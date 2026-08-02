# DaWasteh – konsolidierte ComfyUI-Workflows · v0.7.2

Dieser Ordner ist jetzt der **kuratierte Hauptordner** für die lokalen Workflows auf Windows 11 mit:

- AMD Radeon AI Pro R9700 (32 GB, RDNA4)
- AMD Radeon RX 9070 XT (16 GB, RDNA4)
- PyTorch/ROCm unter Windows
- ComfyUI aus `L:/ComfyUI`

Die Quellordner `DaWasteh`, `Pixaroma` und `WhatDreamsCost` wurden **nicht verändert**. Vor der Konsolidierung wurde zusätzlich ein Backup der ursprünglichen 59 Workflows erstellt:

`L:/ComfyUI/_workflow_backups/DaWasteh-Neu-before-consolidation-20260725-215010.zip`

Der maschinenlesbare Abschluss-Audit liegt hier:

`L:/ComfyUI/_workflow_backups/DaWasteh-Neu-final-audit-20260725.json`

## Ergebnis

- **205 kuratierte Workflow-Dateien** in 29 Kategorien
- **122 Pixaroma Prompt**-Eingaben in 105 gezielt ausgewählten Workflows sowie **9 Pause Text**-Freigaben; insgesamt wurden 108 Workflows sinnvoll erweitert
- 195 Nicht-Live-Workflows enthalten exakt einen `PixaromaRunTimer`; die 10 Live-Avatar-Workflows bleiben auf ausdrücklichen Nutzerwunsch timerfrei
- alle vorhandenen Workflows wurden mit deutlich größeren, nachvollziehbaren Abständen angeordnet
- **2.898 automatisch zugeordnete Parameter-Notes** erklären jeden Nicht-Pixaroma-/Nicht-Dokumentations-Node einschließlich aktueller Werte, Schalterwirkung, Ein-/Ausgänge und höher-/niedriger-Auswirkung
- 59 vorhandene Workflows beibehalten
- 114 funktional ergänzende Workflows übernommen:
  - 33 aus `DaWasteh`
  - 78 aus `Pixaroma`
  - 3 aus `WhatDreamsCost`
- 2 neue Audio-zu-Video-Workflows aufgebaut: ein klar als AudioReact gekennzeichneter Gemma-/FLUX2-/Pixaroma-Workflow und ein echtes generatives LTX-2.3-Video mit Custom Audio
- 1 neuer Audio-zu-Bild-Workflow: Gemma 4 analysiert das Audio, FLUX.2 Klein 4B erzeugt das Kontextbild, `PixaromaResolution` bietet frei wählbare Formate und `PixaromaNote` dokumentiert Bedienung und Downloads
- 3 grundlegende Live-Avatar-Workflows: SDXL-Quellbild, RMBG-2.0-Freistellung und eine AMD-RDNA4-optimierte Webcam→LivePortrait→RGBA-Spout-Pipeline für OBS
- 1 erweiterter LivePortrait-Webcam→Spout→OBS-Workflow mit gecachter, adapterwechselbarer Qwen3-TTS-Voice-LoRA und Browser-Audio für OBS
- 1 experimenteller Continuous-LivePortrait-Workflow mit Latest-Frame-Capture, persistentem GPU-Composite und kontrolliertem Spout-Dauerbetrieb
- **10 Live-Avatar-Workflows**: die fünf ursprünglichen Live-Avatar-Workflows, davon drei LivePortrait-Varianten, browserbasiertes VRM-Live, Buffered AI Mirror, lokaler realistischer/stilisierter VRM-Textur-Creator mit drei Referenzperspektiven plus Prompt, optionaler Meshy-AutoRig-Kandidat und lokaler realistischer 2D-Referenz-Creator. Nur VRM-Live ist ein Echtzeitpfad; der Meshy-Kandidat ist kostenpflichtig/cloudbasiert.
- 1 echtes Qwen3-TTS-PEFT-LoRA-Training sowie 1 eigenständiger Low-Latency-Voice-Workflow; ACE-Step bleibt korrekt auf Gesang/Musik beschränkt
- die ausgelieferten YuE-/HeartMuLa-Startwerte wieder mit ihren bestehenden Tests und Bedienhinweisen synchronisiert: YuE CoT nutzt 20 Sektionen für 540 Sekunden, HeartMuLa startet wieder mit 300 Sekunden Obergrenze
- der manifestgesteuerte Pixaroma-Integrator akzeptiert nach der Refinement-Pipeline ausschließlich zusätzliche lokalisierte UI-Labels, Topologie-Reihenfolge und vorhandene Darstellungsfarben, prüft semantische Node-/Link-Zustände aber weiterhin strikt
- 2 neue MOSS-TTS-Local-v1.5-Workflows: Audio + exaktes Transkript + neuer Text als Continuation sowie Text + Audio-Stimmenvorlage als Zero-shot Voice Clone; beide enthalten direkte Downloads und Zielordner
- 3 lokale YuE-/HeartMuLa-Musikworkflows: YuE CoT mit exakter 5–600-Sekunden-Planung, YuE ICL mit optionaler Vocal-/Songreferenz und HeartMuLa mit promptabhängig abgesicherter Dauer bis 600 Sekunden
- 3 zusätzliche INT8-Musikworkflows: YuE 7B bitsandbytes INT8, ACE-Step 1.5 XL SFT INT8 ConvRot und ein lokal aus dem offiziellen Checkpoint erzeugtes Stable Audio 3 Medium INT8 ConvRot
- 4 neue Idee-zu-Songtext-zu-Musik-Workflows: Qwen 3.5 4B und Gemma 4 e4B schreiben aus einer groben Idee strukturierte Lyrics und reichen sie direkt an ACE-Step 1.5 XL oder HeartMuLa weiter
- 5 neue lokale Bild-LoRA-Trainingsworkflows mit offiziellen ComfyUI-Core-Trainingsnodes: Z-Image Base, Boogu Image Base, FLUX.1 Dev, FLUX.2 Klein 4B Base und SDXL
- der ACE-Step-1.5-Workflow enthält zusätzlich einen ausführlichen Rank-Guide für Rank 16/32/64/128
- exakte und funktionale Tutorial-Duplikate nicht erneut übernommen
- NVIDIA-/CUDA-exklusive Varianten durch lokale AMD-taugliche Varianten ersetzt oder ausgelassen
- vorhandene Modell- und Input-Referenzen auf die lokale Installation angepasst

## Ordnerübersicht

| Ordner | Anzahl | Zweck |
|---|---:|---|
| `Text to Image` | 42 | FLUX, Krea2, Z-Image, SDXL, Anima, Boogu, LongCat, Ideogram usw. |
| `LoRA Generation` | 7 | ACE-Step 1.5, echtes Qwen3-TTS-Voice-LoRA sowie lokale Core-Trainer für Z-Image, Boogu, FLUX.1, FLUX.2 Klein und SDXL |
| `Image Editing` | 21 | FLUX2-Klein-Edits, Qwen Image Edit, SDXL-Composites, Bernini |
| `Prompt Tools` | 15 | Prompt Stack/Pack/Multi, Builder, Text-Tools, XY-Plot |
| `Pixaroma Node Demos` | 12 | aktuelle, deduplizierte Pixaroma-Node-Beispiele |
| `Image Utilities` | 12 | Hintergrundentfernung, Combine, Blend, Compare, Filter, Scale, Lama |
| `Text+Image to Video` | 10 | WAN, LTX Director, First/Last Frame, Kandinsky |
| `Prompt Enhancer` | 11 | Gemma/Qwen Prompt-, Bild-, Audio- und Videoverständnis |
| `Music Generation` | 18 | ACE-Step, Stable Audio 3, YuE CoT/ICL, HeartMuLa, drei INT8-Varianten sowie Qwen-/Gemma-Idee-zu-Lyrics |
| `Voice Design` | 11 | Qwen3-TTS einschließlich wechselbarer PEFT-LoRA-Stimmen sowie MOSS-TTS Local v1.5: Custom Voice, Continuation, Clone und Dialog |
| `Text to Video` | 5 | LTX 2.3 und WAN 2.2 |
| `Audio to Video` | 3 | zwei AudioReact-Varianten sowie echtes generatives LTX-2.3-Bild+Audio→Video in Soundlänge |
| `Audio to Image` | 1 | Gemma-4-Audioverständnis → visueller Prompt → FLUX.2-Klein-4B-Kontextbild |
| `NSFW` | 4 | getrennte SDXL-NSFW-/AniToReal-Workflows |
| `Character & Consistency` | 3 | FLUX Kontext und SDXL/IPAdapter Character Keep |
| `Character Animation` | 3 | SCAIL-2 Animation und Character Replacement |
| `Live Avatar` | 10 | 2D-Quellbilder, Transparenz, LivePortrait-Spout, Continuous-Spout, Qwen-TTS-Variante, rigged VRM browser live, Buffered AI Mirror, lokaler VRM-Textur-Creator und optionaler Meshy-Kandidat |
| `Image Inpainting` | 3 | FLUX2 Klein 4B/9B Inpainting |
| `Image Upscaling` | 3 | einfache, Modell- und Z-Image-Upscaler |
| `Batch Processing` | 2 | Ordner-Batches und Batch-Image-Edit |
| weitere Einzelordner | je 1 | Controlled Video, Image Fusion, 3D, Outpainting, Talking Video, Tests, Video Editing, Video-to-Audio, Vocal Separation |

## Live Avatar · v0.7.2

**Ausführliche Einrichtung, Drei-Bilder-Avatar-Erstellung, OBS-Schritte und Fehlerbehebung:** [LIVE_AVATAR_ANLEITUNG.md](LIVE_AVATAR_ANLEITUNG.md)

Zehn aufeinander aufbauende Workflows unter `workflows/Live Avatar/` bilden die lokale Teststrecke. Die Capability-Tiers bleiben getrennt: **2D-Referenzgenerierung** (01/10), **Buffered AI Mirror** (07) und **tatsächlich geriggtes Browser-VRM** (06); ein PNG ist niemals automatisch ein VRM:

1. `LiveAvatar-01-SDXL-Avatar-Generation.json` erzeugt mit dem bereits vorhandenen RealVisXL V4 ein frontales 1024×1024-Quellbild.
2. `LiveAvatar-02-RMBG-Transparency.json` entfernt mit RMBG-2.0 den Hintergrund und speichert ein PNG mit Alphakanal.
3. `LiveAvatar-03-LivePortrait-Webcam-Spout-OBS.json` übernimmt Mimik und Kopfbewegung aus `WebcamCaptureCV2`, setzt nur den animierten Gesichtsbereich in das statische Quellbild ein, stellt dessen ursprünglichen Alphakanal wieder her und sendet RGBA als `ComfyLiveAvatar` über Spout. Es bleibt der stabile Queue-basierte Fallback.
4. `LiveAvatar-04-LivePortrait-Webcam-Spout-OBS+Qwen3TTS-Voice-LoRA.json` ergänzt den stabilen Queue-Pfad um die lokale Qwen3-TTS-Voice-LoRA-Ausgabe.
5. `LiveAvatar-05-LivePortrait-Continuous-Spout-OBS.json` ist ein separates Experiment mit `ComfyUI-DaWasteh-LiveAvatar`: Capture und Spout laufen als Latest-Frame-Worker, während alle Torch-/ROCm-Schritte im Comfy-Ausführungsthread bleiben. Einmal normal **Run** starten, mit **Interrupt** stoppen und ausdrücklich nie **Run (Instant)** verwenden. Der Sender heißt `ComfyLiveAvatarFast`; OBS verwendet Composite Mode `Default`. Der Node animiert ausschließlich das Gesicht und blockiert während seiner Laufzeit andere ComfyUI-Jobs. Auf der R9700 stieg der warme Durchsatz gegenüber dem Queue-Fallback von rund 1,29 auf 7,3–7,9 neue Frames/s; ein separater SpoutGL-Empfänger erhielt 1024×1024-RGBA mit Alphaextrema `(0,255)` und wechselnden nichtleeren Frames.

6. `LiveAvatar-06-VRM-Full-Body-Hand-Face+Live-Mic.json` startet einen lokalen Browser-Renderer mit MediaPipe-Holistic-Tracking und VRM. Alle vier Presets wurden lokal über die gepinnten Routen geladen und in Chrome/WebGL vollständig gerendert; ein lokaler Fake-Kamerastream erreichte ohne JS-Ausnahme den MediaPipe-Status `Tracking: Oberkörper · live`. Physische Kamera, Gestenqualität und OBS-Aufzeichnung bleiben manuelle Abnahmepunkte. Die Presets werden per `python tools/install_live_avatar_vrm_models.py --comfy-root L:/ComfyUI/ComfyUI` installiert. Der separate DirectML-RVC-Begleiter funktionierte auf der RX 9070 XT mit einem vertrauenswürdig gepinnten Testmodell und anschließendem app-eigenem ONNX-Export warm mit etwa 36–41 ms Rechenzeit pro 100-ms-Chunk; echte Mikrofon-/Virtual-Cable-/OBS-Abnahme bleibt offen. Er ist ausdrücklich nicht Qwen-TTS/Voice-LoRA.
7. `LiveAvatar-07-AI-Webcam-Character-Swap-Experimental.json` ist auf diesem Rechner ein **Buffered AI Mirror**, kein Livepfad: Webcam → OpenPose → SD1.5-LCM Img2Img + IPAdapter-Referenz. Auf 8188/R9700 ergaben wiederholte warme Serien etwa 2,0–2,8 Sekunden pro Frame (rund 0,36–0,50 FPS); 8189/RX 9070 XT erreichte nur rund 0,125 FPS. Der Graph lief vollständig erfolgreich, und ein separater SpoutGL-Empfänger erhielt 512×512-RGBA mit Alpha 255 und nichtleeren Pixeln von `ComfyAICharacterSwapExperimental`; die sichtbare OBS-Komposition bleibt manuell. `tools/install_live_avatar_ai_assets.py` installiert nur gepinnte Safetensors nach Stoppen von Run (Instant) und bei leerer Queue. Für Audio bleibt DirectML-RVC auf der RX 9070 XT getrennt; 8189 währenddessen nicht mit schweren Jobs belasten.

`LiveAvatar-08-Local-VRM-Texture-Creator-Realistic+Stylized.json` ist der lokale, creditfreie Template-Weg: drei lizenzierte/einvernehmlich bereitgestellte Bilder derselben klar erwachsenen Person – empfohlen frontal, Dreiviertelansicht und Profil – werden als gleich gewichteter IPAdapter-Referenz-Batch mit einem Prompt kombiniert. Ein bestehendes lizenziertes VRM0 mit genau einer eingebetteten Basisfarbtextur liefert Rig, Finger und Morphs; Mehrtextur-Basen werden sicher abgelehnt und vorhandenes Textur-Alpha bleibt erhalten. Ausschließlich die UV-Basistextur wird lokal per SD1.5/LCM/IPAdapter umgestaltet. Der Speichern-Node bleibt zunächst stumm: erst die flache UV-Vorschau prüfen, danach bewusst aktivieren und die neue, in Workflow 06 auswählbare VRM0-Variante zusätzlich am gerenderten 3D-Modell kontrollieren. Das ist eine erscheinungs-/ähnlichkeitsgeführte Texturvariante, keine Identitätsrekonstruktion: Körpergeometrie, Körperform, Rig und UV-Inseln bleiben vom Basismodell begrenzt. `LiveAvatar-09-Meshy-AutoRig-to-VRM-Candidate-Optional-Cloud.json` ist ein ungetesteter, kostenpflichtiger Meshy-Kandidat: Referenz und Modell verlassen dabei den Rechner; der strikte Konverter akzeptiert nur ein tatsächlich vollständiges Rig inklusive Fingerketten und Gesichtsmorphs und verspricht keine direkte VRM-Erzeugung durch Meshy. `LiveAvatar-10-Realistic-Adult-Character-Reference-Prompt+Image.json` erzeugt lokal mit dem tatsächlich installierten RealVisXL V4 drei wählbare bekleidete erwachsene 2D-Presets und einen strikt prompt-only, klar erwachsenen, neutralen nicht-expliziten Akt. Ein lizenziertes/einvernehmliches Portrait kann ausschließlich den bekleideten IPAdapter-Zweig beeinflussen; der separate Akt-Sampler ist direkt mit dem Checkpoint verbunden. Workflow 10 erzeugt Referenz-PNGs, kein Mesh, Rig oder VRM.

Für die Radeon AI Pro R9700 sind LivePortrait `fp16` und FaceAlignment mit `landmarkrunner_device = torch_gpu` voreingestellt. BlazeFace erkennt das Gesicht kompatibel auf der CPU; das Landmark-TorchScript und LivePortrait selbst laufen auf der R9700. Der MediaPipe-Pfad bleibt bewusst ungenutzt, weil die installierte Python-3.13-Ausgabe nicht mehr das von diesem älteren Node erwartete `mediapipe.framework` bereitstellt. Der aktuelle LivePortraitKJ-Node nennt den früher oft als `crop_factor` beschriebenen Regler `scale`; `2.30` fokussiert den Kopf, während `LivePortraitComposite` Kleidung und Hände stabil aus dem Quellbild übernimmt. Ein normaler ComfyUI-Graph verarbeitet nur ein Webcam-Frame pro Queue-Ausführung: Für fortlaufende Bewegung muss beim Fallback-Workflow 03 **Run (Instant)** verwendet werden – das ist der aktuelle Name der in den älteren Workflow-Notizen als „Auto Queue“ bezeichneten Funktion; der Spout-Writer sendet das jeweils letzte fertige RGBA-Frame mit 30 FPS weiter. Workflow 05 benötigt dagegen genau einen normalen Run und läuft bis zum Interrupt.

Installiert wurden `ComfyUI-LivePortraitKJ` und `Jovi_Spout`. Die sechs Human-LivePortrait-Dateien liegen unter `L:/ComfyUI/ComfyUI/models/liveportrait/`, RMBG-2.0 unter `models/RMBG/RMBG-2.0/`. Der Webcam-Node war bereits in ComfyUI-KJNodes vorhanden. Auf diesem Rechner ist die bevorzugte Elgato Facecam Pro als `cam_index = 1` voreingestellt; die Logitech BRIO ist aktuell Index 2, und der Wert bleibt direkt im Node umstellbar. Das Windows-[Spout2-Plugin 1.12.0](https://github.com/Off-World-Live/obs-spout2-plugin/releases/tag/1.12.0) liegt auf dieser OBS-Installation unter `C:/ProgramData/obs-studio/plugins/win-spout/`. Ein separater SpoutGL-Empfänger hat nach dem vollständigen LivePortrait-Lauf das nichtleere 1024×1024-RGBA-Frame des Senders `ComfyLiveAvatar` empfangen; in OBS muss nach einem Neustart nur noch die Spout2-Quelle mit diesem Namen gewählt und Alpha aktiviert werden.

PyTorch 2.6+ lädt den von Kijai bereitgestellten `landmark_model.pth` standardmäßig nicht mehr als serialisiertes `torch.fx`-Modul. `tools/convert_liveportrait_landmark.py` prüft deshalb vor dem einmaligen vollständigen Laden zuerst die bekannte Upstream-SHA-256-Prüfsumme `48ba55140fda4c292d3faf3e3ed9106784c7c32aebf170d4983fb67cd0a3c9c8` und erzeugt daraus das eigenständige `landmark_model_torchscript.pt`. Die Konvertierung ist bytegenau auf Torch `2.12.0+rocm7.15.0a20260727`, onnx2torch `1.5.15`, ONNX `1.22.0` und Protobuf `5.29.6` festgelegt und vergleicht zwei deterministische Testeingaben numerisch mit dem Quellmodell. Diese einmaligen Konvertierungsabhängigkeiten gehören in eine Wegwerf-Umgebung, nicht in das produktive ComfyUI. Der Runtime-Patch lädt nur das fertige TorchScript nach Prüfung seiner SHA-256-Prüfsumme `9064565b92b3595786096b36acd24709c7bd290631510517bd3a9d5ca8f28a43`; dadurch werden weder `onnx2torch` noch eine Änderung der vorhandenen Protobuf-Version im laufenden ComfyUI benötigt. Der reproduzierbare Diff liegt unter `tools/patches/ComfyUI-LivePortraitKJ-PyTorch-2.6-verified-landmark-load.patch`; ein Update des Custom Nodes kann den lokalen Fix überschreiben. Der erfolgreiche FaceAlignment-Erstlauf legte zusätzlich `2DFAN4-cd938726ad.zip` (`cd938726…`), `blazefaceback.pth` (`e2c03bb3…`) und `anchorsback.npy` (`a10bb2fb…`) im Torch-Checkpoint-Cache ab.

Der reproduzierbare KJNodes-Kompatibilitätspatch `tools/patches/ComfyUI-KJNodes-WebcamCaptureCV2-ComfyUI-IS_CHANGED.patch` korrigiert den alten `WebcamCaptureCV2.IS_CHANGED`-Hook für aktuelle ComfyUI-Eingaben und erzwingt im Queue-Fallback weiterhin ein frisches Kamerabild. Ein Custom-Node-Update kann diesen lokalen Patch überschreiben.

Die Upstream-`requirements.txt` von LivePortraitKJ und Jovi_Spout dürfen in dieser Python-3.13-/ROCm-Installation **nicht blind vollständig installiert** werden: sie würden NumPy auf `<2` absenken und LivePortrait zusätzlich einen nicht benötigten GPU-ONNX-Pfad einziehen. Installiert wurden nur die tatsächlich benötigten, Python-3.13-kompatiblen Pakete; `cozy_comfyui` ist lokal auf Commit `6f37572d41a4124f406c1d1f33b61f0fd56b4d99` festgelegt. `pip check` bleibt wegen der bereits zuvor vorhandenen Protobuf-3.19.6-Konflikte anderer ComfyUI-Nodes nicht global sauber; die hier ausgelieferte TorchScript-/FaceAlignment-Pipeline verwendet diesen Konfliktpfad nicht.

## Qwen3-TTS Voice-LoRA · v0.7.0

v0.7.0 korrigiert die ComfyUI-Validierung des numerisch aussehenden `lora_rank`-Dropdowns: Rank 8/16/32/64 werden als stabile String-Auswahl gespeichert und vor PEFT kontrolliert in Integer umgewandelt. Zusätzlich erkennt der Trainer neben `<audio-stem>.txt` jetzt auch das verbreitete Schema `<audio-stem>_Text.txt` und liest UTF-8-Dateien BOM-tolerant.

ACE-Step-Voice-LoRAs konditionieren eine **Gesangs-/Musikgenerierung** und sind deshalb nicht die richtige Technik für eine sprechende Live-Avatar-Stimme. v0.6.9 ergänzte stattdessen `custom_nodes/ComfyUI-DaWasteh-Qwen3TTS-LoRA/` mit zwei lokal installierten Nodes:

- `DaWastehQwen3TTSLoRATrain` trainiert einen echten PEFT-LoRA-Adapter plus die benötigte Sprecher-Einbettung.
- `DaWastehQwen3TTSLoRAInference` listet vollständige Adapter unter `models/qwen-tts/loras/` im Dropdown auf, lädt sie ausschließlich aus Safetensors/JSON und erlaubt einen skalierbaren Wechsel zwischen lokalen Stimmen.

`Qwen3-TTS_0.6B-Voice-LoRA-Training.json` erwartet Audio-/UTF-8-Transkriptpaare nach dem Schema `<name>.wav` + `<name>.txt` oder `<name>.wav` + `<name>_Text.txt` unter `ComfyUI/input/qwen3tts_lora/my_voice/`. Der AMD-Sicherstart ist 0.6B, BF16, SDPA, Batch 1, Gradient Accumulation 4, Rank 16/Alpha 32, Lernrate `2e-6` und zunächst genau eine Epoche. Eingangsaudio wird vor dem Training auf 24 kHz Mono normalisiert. Checkpoints landen als `adapter_model.safetensors`, `adapter_config.json`, `speaker_embedding.safetensors` und Metadaten unter `ComfyUI/models/qwen-tts/loras/<stimme>/checkpoint-epoch-N/`. Der ebenfalls unterstützte 1.7B-Pfad ist qualitativ stärker, aber langsamer.

`Qwen3-TTS_LoRA-Low-Latency-Live-Voice.json` erzeugt aus Text eine vollständige 24-kHz-Sprachdatei, spielt geänderte Ausgaben mit `PlaySoundKJ` einmal im Browser und speichert zusätzlich FLAC. `LiveAvatar-04-LivePortrait-Webcam-Spout-OBS+Qwen3TTS-Voice-LoRA.json` fügt denselben Voice-Zweig zur bewährten FaceAlignment→LivePortrait→RGBA-Spout-Pipeline hinzu. Für OBS wird das ComfyUI-Browser-/Anwendungsaudio aufgenommen oder über ein bereits vorhandenes virtuelles Audiokabel geroutet; Spout selbst transportiert nur Video. Unveränderte TTS-Eingaben bleiben im Auto-Queue-Betrieb gecacht und `on_change` verhindert eine Wiederholung pro Webcam-Frame.

Die ComfyUI-Integration ist bewusst als **Low-Latency/request-basierte TTS** bezeichnet: Der Node liefert einen vollständigen Clip nach einem Queue-Lauf, aber keinen kontinuierlichen Mikrofon-Voice-Changer. Nach neuem Training den Inference-Node mit `R` aktualisieren, Adapter, `speaker_name` und passende 0.6B-/1.7B-Basis wählen und LoRA-Skalen 0.20/0.30/0.35/0.50 vergleichen. Stimmen dürfen nur mit Eigentum oder ausdrücklicher Einwilligung geklont werden.

Das fehlende 0.6B-Base-Modell wurde nach `L:/ComfyUI/ComfyUI/models/qwen-tts/Qwen3-TTS-12Hz-0.6B-Base/` geladen; der 12-Hz-Tokenizer war bereits vorhanden. Als Laufzeit-Voraussetzung muss `qwen3-tts-comfyui` oder `ComfyUI-Qwen-TTS` installiert sein. `tools/install_qwen3_tts_lora_node.py` prüft diese Laufzeit, installiert die begrenzten PEFT-/Audio-Abhängigkeiten mit dem Ziel-ComfyUI-Python und kopiert den Node-Pack nur nach Run (Instant) stoppen und bei leerer Queue. Die Implementierung übernimmt die korrigierte Label-Verschiebung, Textprojektion, PEFT-Zielmodule und Scale-Empfehlungen aus dem Apache-2.0-Projekt [cheeweijie/qwen3-tts-lora-finetuning](https://github.com/cheeweijie/qwen3-tts-lora-finetuning); die offizielle Qwen-Implementierung bietet ansonsten nur Full-SFT.

## Pixaroma Prompt-Bibliothek · v0.6.4

`prompt-libraries/DaWasteh-Pixaroma-Prompt-Library.json` ist eine persönliche, importierbare Bibliothek für **Prompt Pixaroma**. Im Node `Tags` öffnen und die Datei importieren. `@tag` fügt einen gespeicherten Textbaustein ein, `*Kategorie` zieht bei jedem Lauf einen Baustein aus einer Kategorie und `#liste` zieht eine Zeile aus einer Listenkarte. Die Wahlmodi Shuffle, Random und In order stehen im Tags-Editor bereit; **Show expanded** zeigt den tatsächlich gesendeten Prompt.

Die Bibliothek trennt Bild/Video, Musik, Voice-Direction, Branding (DaWasteh, Pandaking, Draygh, Stella), explizit erwachsene einvernehmliche Inhalte und Negativ-Tags. Zufallslisten enthalten keine Adult- oder Negative-Tags. Der queue-sichere Installer `python tools/install_pixaroma_prompt_library.py` installiert nur in eine leere lokale Bibliothek; eine bestehende Library wird ohne `--replace` nie überschrieben. Er wird absichtlich nicht automatisch ausgeführt.

**Pause Text** liegt nur hinter ausgewählten `TextGenerate`-Ausgaben, die anschließend Bild-, Video- oder Audiogenerierung konditionieren: Pause zeigt und stoppt, Continue nutzt den korrigierten Text ohne das LLM erneut auszuführen, Pass läuft ohne Stopp durch und Keep wiederholt mit dem freigegebenen Text. Negative Prompts, Systemformeln, Lyrics, TTS-Sprechtexte, Referenztranskripte, Utilities, Demos und Training bleiben bewusst unverändert.

Prompt-Tag-Expansion und Pause/Continue/Keep sind Browser-Funktionen von ComfyUI-Pixaroma. Reine API-/Headless-Läufe expandieren keine private `@`/`*`/`#`-Library und können keine interaktive Pause bedienen; dafür einen normalen String-Eingang verwenden.

## Benennung

Die bestehende englische Ordnerstruktur wurde beibehalten und logisch erweitert. Neue Dateien folgen möglichst diesem Schema:

`MODEL_VARIANTE-Funktion.json`

Korrigierte vorhandene Namen:

- `LLM_Gemma3_12B_abliterated_...` → `LLM_Gemma4_e4b_abliterated_...`  
  Der Workflow lädt tatsächlich Gemma 4 e4b.
- `FLUX2_dev_fp8mixed_NEW-...` → `FLUX2_dev_fp8mixed_v2-...`

## Lokales LoRA-Training auf RDNA4

Die fünf neuen Bildtrainer verwenden ausschließlich die **offiziellen experimentellen ComfyUI-Core-Nodes** `LoadImageTextDataSetFromFolder`, `MakeTrainingDataset`, `ResolutionBucket`, `TrainLoraNode`, `LossGraphNode` und `SaveLoRA`. Es wird keine zusätzliche CUDA-Trainer-Extension benötigt.

- Trainingsdaten liegen unter `ComfyUI/input/lora_training/<modell>/`; jedes Bild erhält eine gleichnamige `.txt`-Caption.
- Alle neuen Trainer starten absichtlich mit **2 Schritten** und einem `_smoke`-Dateiprefix. Erst nach erfolgreichem Loss-/Datei-Test auf den gewünschten Schrittwert erhöhen und `_smoke` entfernen.
- Standard ist Rank 16, BF16, Batch 1, Gradient Accumulation 4, Gradient Checkpointing und Resolution Buckets.
- `SaveLoRA` schreibt nach `ComfyUI/output/loras/DaWasteh/`. Fertige Adapter anschließend nach `ComfyUI/models/loras/DaWasteh/` kopieren.
- FLUX.1 Dev nutzt wegen des vorhandenen FP8-Modells den quantisierten Bypass-Rückwärtsweg und ist im Workflow ausdrücklich als experimentell markiert.
- Alle für diese fünf Workflows benötigten Basismodelle, Textencoder und VAEs waren bereits in `L:/ComfyUI/ComfyUI/models` vorhanden; es mussten keine zusätzlichen Gewichte heruntergeladen werden.

**Krea 2 RAW wurde nach einem reproduzierbaren OOM auf der R9700 trotz aktiviertem Offloading wieder entfernt.** Das 24,5-GB-BF16-Modell zusammen mit Textencoder und Trainingszustand überschreitet die sichere 32-GB-VRAM-/48-GB-RAM-Grenze dieses Systems. Entsprechend der Stabilitätsregel wird kein Workflow ausgeliefert, der auf der Zielhardware nicht sicher nutzbar ist.

Für Qwen3-TTS steht ab v0.6.9 zusätzlich zum vorhandenen experimentellen Full-Finetuning der separate, lokal smoke-getestete PEFT-LoRA-Pfad zur Verfügung. Bewusst nicht als lokale RDNA4-LoRA-Trainer aufgenommen wurden weiterhin LTX-2 (offizieller Trainer verlangt CUDA/Triton), WAN 2.x (kein offizieller Herstellertrainer), HunyuanVideo/CogVideoX (kein bestätigter gfx1201-Pfad), Stable Audio 3 (kein passender ComfyUI-Core-Datasetpfad) sowie MOSS-TTS Local v1.5. OpenMOSS dokumentiert für Local v1.5 Full-SFT, aber keinen allgemeinen v1.5-LoRA-Pfad; das vorhandene Community-LoRA-Beispiel zielt auf das ältere 8B-Modell, und der verwendete ComfyUI-v1.5-Node kann keine LoRAs trainieren oder laden.

## Idee → Songtext → Musik · v0.6.6

Vier neue Workflows unter `workflows/Music Generation/` kombinieren die native ComfyUI-`TextGenerate`-Node mit den vorhandenen Musikmodellen:

- `ACE-Step1_5_XL_SFT_Qwen3_5_4B-Idea-to-Lyrics-to-Music.json`
- `ACE-Step1_5_XL_SFT_Gemma4_e4B-Idea-to-Lyrics-to-Music.json`
- `HeartMuLa_HappyNewYear_3B_Qwen3_5_4B-Idea-to-Lyrics-to-Music.json`
- `HeartMuLa_HappyNewYear_3B_Gemma4_e4B-Idea-to-Lyrics-to-Music.json`

Im ersten grünen Node wird nur die grobe Songidee eingetragen; Sprache, Handlung, Stimmung und Perspektive dürfen frei formuliert werden. Ein getrennter grüner Tags-Node steuert Genre, Stimme, Instrumentierung und Produktion. Qwen 3.5 4B beziehungsweise Gemma 4 e4B erzeugen singbare Lyrics mit Markern wie `[Verse 1]`, `[Chorus]` und `[Bridge]`. Ein Core-`RegexReplace` entfernt bei Bedarf internen Denktext oder eine Präambel; `PixaromaShowText` zeigt nur den bereinigten Songtext an und reicht ihn ohne Copy-and-paste direkt an ACE-Step oder HeartMuLa weiter.

Beide LLM-Varianten verwenden lokal vorhandene Textencoder aus `ComfyUI/models/text_encoders/Qwen/` beziehungsweise `ComfyUI/models/text_encoders/Gemma/`. Die Workflows enthalten die direkten Hugging-Face-Downloads und Zielordner in ihrer Bedienungs-Note. ACE-Step startet mit 210 Sekunden; HeartMuLa nutzt 210 Sekunden als Obergrenze und kann bei Audio-EOS früher enden.

## INT8-Musikvarianten

Drei zusätzliche Workflows unter `workflows/Music Generation/` verwenden echte 8-Bit-Gewichte:

- `YuE_7B-INT8_R9700-Music-Generation.json`: Community-bitsandbytes-INT8 für Stage 1 und Stage 2; XCodec und Upsampler bleiben in Originalpräzision.
- `ACE-Step1_5_XL_SFT_INT8_ConvRot-Music-Generation.json`: nativer Comfy-INT8-ConvRot-Checkpoint von `hrktxz`; `weight_dtype=default` liest die eingebetteten Quantisierungsmetadaten.
- `StableAudio3_Medium_INT8_ConvRot-Audio-Generation.json`: lokal mit `Comfy-Org/comfy-model-tools` aus dem offiziellen Medium-Checkpoint erzeugt; 192 DiT-Linear-Layer sind INT8 ConvRot, der Audio-VAE bleibt BF16.

Die Modelle liegen lokal unter `L:/ComfyUI/ComfyUI/models/yue/`, `models/diffusion_models/ACE/` und `models/checkpoints/StableAudio/`. Die Workflow-Notes enthalten Quellen, Zielpfade und SHA-256-Prüfsummen. Auf dieser Windows-ROCm-Installation läuft Comfy INT8 ohne Triton über den Eager-Fallback; dadurch sinkt der Modell-/VRAM-Bedarf, ein Geschwindigkeitsgewinn ist aber nicht garantiert. YuE verwendet separat bitsandbytes; dessen ROCm-7.14-Wheel-Fallback wurde auf gfx1201 mit einer INT8-Matrixmultiplikation geprüft.

## YuE und HeartMuLa · v0.6.3

Die Musikworkflows benötigen zwei lokale Custom-Node-Patches aus `tools/patches/`:

- `ComfyUI_YuE-Windows-RDNA4-longform-ICL.patch`: SDPA statt Flash-Attention, kein TorchInductor auf Windows-ROCm, robuste MMGP-Profilvalidierung, verlustfreie WAV-Zwischenstufen, exakte 5–600-Sekunden-Tokenplanung und ein optionaler ComfyUI-`AUDIO`-Eingang für ICL-Referenzen.
- `ComfyUI-HeartMuLa-600s-context.patch`: erweitert `duration_seconds` auf 600 und prüft vor dem GPU-Lauf, wie viel Audio neben den aktuellen Lyrics/Tags in den 8192-Positionen-Kontext passt.

Die Patches werden jeweils im Root des passenden Custom-Node-Repositories angewendet; vorher mit `git apply --check` prüfen. Beispiel:

```powershell
git -C "L:/ComfyUI/ComfyUI/custom_nodes/ComfyUI_YuE" apply --check "<dieser-clone>/tools/patches/ComfyUI_YuE-Windows-RDNA4-longform-ICL.patch"
git -C "L:/ComfyUI/ComfyUI/custom_nodes/ComfyUI_YuE" apply "<dieser-clone>/tools/patches/ComfyUI_YuE-Windows-RDNA4-longform-ICL.patch"
git -C "L:/ComfyUI/ComfyUI/custom_nodes/ComfyUI-HeartMuLa" apply --check "<dieser-clone>/tools/patches/ComfyUI-HeartMuLa-600s-context.patch"
git -C "L:/ComfyUI/ComfyUI/custom_nodes/ComfyUI-HeartMuLa" apply "<dieser-clone>/tools/patches/ComfyUI-HeartMuLa-600s-context.patch"
```

Der separate Referenzstimmen-Workflow verwendet den zusätzlichen ICL-Checkpoint:

```powershell
hf download m-a-p/YuE-s1-7B-anneal-en-icl --local-dir "L:/ComfyUI/ComfyUI/models/yue/YuE-s1-7B-anneal-en-icl"
```

Lokaler Zielordner: `L:/ComfyUI/ComfyUI/models/yue/YuE-s1-7B-anneal-en-icl`

**YuE-Einstellungen unterscheiden sich bewusst:** Ohne Referenz den CoT-Workflow mit `...en-cot` und beiden Audio-Prompt-Schaltern AUS verwenden. Mit Referenz den ICL-Workflow mit `...en-icl`, verbundenem `reference_audio`, `use_audio_prompt=True` und vorzugsweise etwa 30 Sekunden isoliertem Gesang/Chorus verwenden. Ein kompletter Mix überträgt zusätzlich Arrangement und Instrumentierung; ICL ist Stil-/Audio-Conditioning, keine garantierte identische Voice-Clone-Engine.

HeartMuLa OSS 3B besitzt derzeit keinen Referenz-Audio-Eingang; dieser Punkt steht im offiziellen HeartLib noch auf der TODO-Liste. Deshalb enthält der HeartMuLa-Workflow keinen wirkungslosen Pseudo-Port. Mehr als 300 Sekunden sind möglich, aber `duration_seconds` bleibt eine Obergrenze: Audio-EOS kann früher eintreten und lange Lyrics verkleinern das promptabhängige Maximum.

## RDNA4-Anpassungen

Folgende Regeln wurden auf die konsolidierte Sammlung angewendet:

- keine Nunchaku-/SVDQ-/FP4-Workflows
- kein `CUDAExecutionProvider`
- keine TensorRT-, xformers-, Triton- oder Flash-Attention-Pflicht
- keine `nvfp4`-Modelle
- keine SeedVR2-Workflows mit festem `cuda:0`
- FLUX2-Klein-9B-Imports verwenden das installierte KV-FP8-Modell
- FLUX2-Klein-4B-Imports verwenden das installierte lokale 4B-Modell
- Z-Image-Imports verwenden das installierte BF16-Modell
- verdächtige Krea2-INT8-ConvRot-Referenzen wurden auf das installierte FP8-Modell umgestellt
- Qwen3-TTS verwendet `device=auto` beziehungsweise den Windows-ROCm-`cuda`/HIP-Alias und `attention=sdpa`; der Voice-LoRA-Pfad lädt keine Flash-Attention-/Triton-Pflicht
- ONNX-CUDA-Beispiele aus den Pixaroma-WAN-Wrapper-Workflows wurden nicht übernommen; stattdessen bleiben die nativen lokalen WAN/SCAIL-Workflows erhalten

## Bewusst nicht übernommen

Diese Dateien bleiben in ihren Quellordnern als Referenz, gehören aber nicht in die produktive RDNA4-Sammlung:

- Nunchaku-Workflows: NVIDIA/CUDA-spezifisch
- SeedVR2-Custom-Workflows: fehlende Nodes und festes `cuda:0`
- WAN-Video-Wrapper-Beispiele mit `CUDAExecutionProvider`
- Lens-Workflow mit NVIDIA-`nvfp4`-Textencoder
- Fish Audio S2: benötigter Node-Pack ist nicht installiert; Qwen3-TTS deckt TTS/Clone/Dialog lokal ab
- kostenpflichtige Cloud-Upscaler
- alte Tutorial-T2I-Duplikate, deren Modelle bereits sauber unter `Text to Image` vorhanden sind
- `Ill_modular_wf.json` und `Illus_v2_6.13.25.json`: große Legacy-Pipelines mit zahlreichen nicht mehr installierten Nodes/Modellen; die lauffähigen vereinfachten SDXL-Nachfolger wurden übernommen
- redundante WhatDreamsCost-Director-/2-Stage-Varianten; behalten wurden die expandierte Director-, Custom-Audio- und Prompt-Replay-Version
- der WhatDreamsCost-3-Stage-Workflow wurde nach rekursiver Prüfung ausgeschlossen, weil sein Quell-Subgraph `Stage #2` 20 Links zu nicht vorhandenen Nodes enthält; die Originaldatei bleibt im Quellordner und eine Sicherung liegt unter `_workflow_backups/excluded-LTX23_First+Last-Frame-3-Stage-source-broken.json`

## Validierung

Automatisch geprüft wurden alle 205 Workflows. Der `--against-head`-Modus prüft neue und geänderte Dateien vollständig, behandelt bereits eingecheckte Integrationen als unveränderte Baseline, normalisiert bei älteren Deltas ausschließlich die im 186-Dateien-Manifest erlaubten Prompt-/Pause-Transformationen und verwirft jede andere Änderung an bestehenden Nodes oder Links:

- 205/205 gültige JSON-Dateien
- 195 Nicht-Live-Workflows mit genau einem `PixaromaRunTimer`; 10/10 Live-Avatar-Workflows ohne Run-Timer
- 242 Haupt- und Untergraphen rekursiv geprüft
- 6.761 Nodes, davon 2.898 eindeutig zugeordnete Parameter-Notes, 122 `PixaromaPrompt`- und 9 `PixaromaPauseText`-Nodes
- 4.441 Graph-Links erfasst; die Live-Avatar-Links verbinden Quellbild, Alpha, drei Referenzperspektiven, Webcam, LivePortrait-Composite und Spout vollständig, die neuen Audio-Links verbinden Voice-LoRA, Browser-Wiedergabe und FLAC-Speicherung in beiden Richtungen
- keine neuen doppelten IDs, fehlenden oder einseitigen Endpunkte, Note-Zuordnungs- oder Layoutfehler in den v0.7.2-Dateien
- vorhandene `PixaromaNote`-Dictionaries einschließlich Position und Größe unverändert; ausschließlich die Qwen3-TTS-Trainingsnote dokumentiert zusätzlich das neue `_Text.txt`-Transkriptschema
- Die automatisierte Testsuite prüft insgesamt die Workflow-Werkzeuge, den Continuous-LiveAvatar-Lebenszyklus und den Voice-LoRA-Adapterlebenszyklus; davon sichern die Integrationstests Manifest-Hashes gegen HEAD, exakte Prompttext-Migration, Formula+Idea-Trennung, Pause-Ancestry, wechselseitige Links, Kollisionsfreiheit, Korruptionserkennung, die drei INT8-Modellpfade, den AMD-sicheren Live-Avatar-Stack, echte PEFT-/Safetensors-Voice-LoRAs und wiederholte byteidentische Anwendung ab
- alle fünf neuen Trainer verwenden installierte Core-Nodes und vorhandene lokale Modelle
- alle fünf Trainer erfolgreich mit einem vollständigen einmaligen 1-Step-Train-und-Save-Smoke-Test auf der Radeon AI Pro R9700 / ROCm 7.15 ausgeführt; die ausgelieferten Workflows starten bewusst mit 2 Schritten für den ersten eigenen Smoke-Test, und die erzeugten Test-Safetensors enthielten nichtleere Adaptergewichte
- Boogu erst nach aktiviertem `offloading=true` OOM-frei validiert; diese sichere Einstellung ist im Workflow fest voreingestellt
- MOSS-TTS Local v1.5 verwendet `dtype=auto` und `attention=sdpa`; die Gewichte belegen zusammen rund 17,6 GB (9,1 GB Modell plus 8,5 GB Codec). Voice Clone und Continuation wurden auf der R9700 erfolgreich bis zu nichtleeren 48-kHz-Stereo-FLACs ausgeführt; für statisches ComfyUI-Offloading war ein lokaler Comfy-Cast-Fix für `MossQwen3RMSNorm` nötig
- Qwen3-TTS 0.6B trainierte auf der R9700 mit den ausgelieferten Rank-16-/Alpha-32-/Accumulation-4-Startwerten in einem vollständigen 1-Sample-/1-Epoch-Smoke-Test 462 nichtleere LoRA-Tensoren (47,6 MB) plus Sprecher-Einbettung. Für v0.7.0 wurde dieser Lauf zusätzlich mit dem String-COMBO-Wert `"16"` und einem realen MP3-/`_Text.txt`-Paar erfolgreich wiederholt; die Metadaten enthielten weiterhin den Integer-Rank `16`. Der anschließende Adapter-Inference- und Cache-Invalidierungs-Test erzeugte zweimal 3,82 Sekunden identisches, endliches 24-kHz-Mono-FLAC mit Peak 0,0615 und RMS 0,00569, ohne den nach Timestamp-Wechsel veralteten Backend-Cache wiederzuverwenden. Der kombinierte LiveAvatar-04-Lauf lieferte gleichzeitig ein nichtleeres 1024×1024-RGBA-Frame mit Alpha `(0,255)` und 5,58 Sekunden endliches Voice-LoRA-Audio.
- keine NVIDIA-/CUDA-only-Risiko-Widgets und keine eingebetteten `Rh-Comfy-Auth`-Tokens/JWTs
- Generator, Refinement und Validator sind reproduzierbar und idempotent; die fokussierte Unit-Test-Suite prüft dynamische Widgets, Seed-Kontrollen, VHS-Dictionary-Werte, Subgraphs und TrainLora-Widgetreihenfolge

Die Prüfung bestätigt Struktur, lokale Abhängigkeiten und RDNA4-Kompatibilität. Die fünf neuen Bild-LoRA-Trainer wurden lokal bis zum gespeicherten Adapter ausgeführt; Krea 2 RAW wurde nach dem OOM konsequent entfernt. Der Audio-to-Image-Workflow wurde vollständig mit Gemma 4 und FLUX.2 Klein 4B auf der lokalen ComfyUI-Installation ausgeführt. YuE CoT und YuE ICL wurden jeweils mit einer erzwungenen 10,00-Sekunden-Ausgabe vollständig auf der R9700 ausgeführt. HeartMuLa akzeptierte und dekodierte einen Lauf mit `duration_seconds=301` erfolgreich; das Modell setzte bei 193,68 Sekunden selbst Audio-EOS und bestätigt damit, dass der Wert eine Obergrenze statt einer garantierten Länge ist. Die neuen INT8-Varianten wurden zusätzlich live geprüft: Stable Audio 3 erzeugte 1,02 Sekunden endliches 44,1-kHz-Stereo-FLAC, ACE-Step 1.5 XL exakt 5,00 Sekunden endliches 48-kHz-Stereo-FLAC. YuE INT8 lud beide bitsandbytes-Stufen erfolgreich und erzeugte die 5-Sekunden-Stage-1-Tokens; der anschließende Stage-2-Lauf wurde auf Benutzerwunsch beendet und wird manuell geprüft. Ein vollständiger GPU-End-to-End-Lauf aller 205 Workflows wäre sehr rechen- und zeitintensiv; besonders große Musik-, WAN- und LTX-Workflows sollten auf der R9700 mit dem vorhandenen sicheren Launcher-Profil ausgeführt werden.
