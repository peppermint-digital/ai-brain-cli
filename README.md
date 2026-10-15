# AI Brain Harness

Verbindet einen Rechner mit einer AI-Brain-Instanz, gibt ihm deren Werkzeuge
*und* die Hoheit über diesen Rechner — und hält das Gespräch in einer eigenen
Maske.

Der Befehl heisst `ai-brain-harness`, der Einstieg ist `brain`.

> **Umbenennung, 15.10.2026.** Bis dahin hiess der Befehl `ai-brain-cli` (und
> davor `ai-brain-companion`). Der Installer legt `ai-brain-cli` weiter als
> Verweis an, bis alle Rechner umgestellt sind — ein Umbenennen, das unterwegs
> MCP-Einträge, `brain`, Skripte und das imkr-Plugin bricht, ist teurer als ein
> Verweis, der eine Weile mitläuft.
>
> Zwei Dinge behalten absichtlich den alten Namen:
>
> - **Die Ablage** (`~/.config/ai-brain-cli`). Sie ist unsichtbar, und ein
>   zweiter Datenumzug auf drei Rechnern wäre Risiko ohne Gegenwert. `install.sh`
>   schreibt dort hinein, *bevor* das Programm das erste Mal läuft.
> - **Der Gedächtnis-Schlüssel** in AI Brain. Unter ihm liegen die Einträge des
>   Harness — am 15.10.2026 waren es 139. Ihn umzubenennen würde sie verwaisen
>   lassen, und das sähe aus wie „der Harness hat kein Gedächtnis".
>
> `ai-brain-harness configure` schreibt den MCP-Eintrag auf den neuen Pfad um
> **und räumt Einträge früherer Fassungen weg**. Das ist kein Beiwerk: Auf
> Laptop und Desktop zeigte der Eintrag am 15.10.2026 noch auf
> `ai-brain-companion` vom August, und auf diesem Rechner auf eine veraltete
> Kopie unter `/usr/local/bin`. Der Eintrag sah jeweils richtig aus; nur der
> Pfad hinter ihm war alt.

Du gibst eine Domain an, bestätigst einmal einen kurzen Code im Browser, fertig.
Zugangsdaten tippst du nirgends ab; sie wandern nie durch die Zwischenablage.

## Was ein Harness ist — und was dieser anders macht

Ein *Harness* ist die Schicht zwischen einem Sprachmodell und der Welt: sie hält
das Gespräch, reicht Werkzeuge hinein, verwaltet Zugänge und Rechte und
entscheidet, was ausgeführt werden darf. Eine Quellcode-Studie über elf solcher
Systeme zerlegt sie in sechs Teile — Werkzeugschicht, Zugangsverwaltung,
Rechtesystem, Loop-Steuerung, Plattformabstraktion, Laufzeitumgebung. Daran
lassen sich die Systeme vergleichen, die dasselbe Problem verschieden lösen:

|  | Agentenschleife | Werkzeuge | Zugänge | Rechte | Rechnerzugriff |
|---|---|---|---|---|---|
| **Pi** | eigen, bewusst minimal (Systemprompt und Werkzeugdefinitionen unter 1000 Token) | 8 eingebaute, 4 standardmässig an: `read`, `write`, `edit`, `bash`; dazu `grep`, `find`, `ls` | selbst besorgen | als Erweiterung nachrüstbar (Rechtegitter, Pfadschutz, Sandbox) | ja |
| **OpenClaw** | Pi als Kern, darüber ein Plugin-Ökosystem | je Integration ein Plugin mit Manifest — Channels, Modellanbieter, Speicher, Skills | je Plugin | je Plugin | ja |
| **Hermes** | eigen | eigene, mitgebracht (Terminal, Datei, Gedächtnis, Cronjob, TTS, Vision …) | eigene Ablage unter `~/.hermes` | keine | ja, aber `computer_use` nur unter macOS |
| **AI Brain Harness** | **eigen *und* gemietet** — eigener Loop für OpenAI-kompatible und Anthropic, `claude`/`codex` weiter nutzbar | **AI Brains MCP-Werkzeuge *und* die dieses Rechners** | **AI Brains Register** | **AI Brains Nutzerrechte** | ja, voller Rechner |

### Der Unterschied in einem Satz

Die anderen bringen ihre Welt mit. Dieser erbt sie.

Was in AI Brain eingerichtet ist, kennt der Harness ohne eine Zeile
Integrationscode: Server samt Host, Nutzer, Port und letztem Zustand;
Zugangsdaten projektübergreifend; Modellkonten; Mailkonten; Projekte, Aufgaben,
Fehler, Gedächtnis, Wiki, Vault. Eine neue Fähigkeit ist deshalb fast immer ein
neues Werkzeug **in AI Brain**, nicht Code hier — dort nützt es gleichzeitig
allen Rechnern, allen Channels und allen angebundenen Produkten.

### Die Rechte sind der unterschätzte Teil

Der Harness meldet sich über OAuth an und **ist** dabei eine Person. Läuft er
als Bastian, hat er genau Bastians Rechte — nicht mehr. Damit ist die
Rechtefrage gelöst, bevor sie gestellt wird: keine zweite Rechteverwaltung, und
ein Harness auf dem Rechner einer Mitarbeiterin kommt nur an das, was sie sehen
darf. Bei Pi und Hermes gibt es diese Ebene nicht; bei OpenClaw hängt sie am
jeweiligen Plugin.

### Zwei Werkzeugserver in derselben Hand

Ein Zug der Maske hat beides zugleich:

```
            ┌─────────────────────────────┐
  brain ───▶│  Maske  (maske.rs)          │
            │  Eingabe · Darstellung      │
            └──────────┬──────────────────┘
                       │  pro Zug
            ┌──────────▼──────────────────┐
            │  Motor (gemietet)           │
            └─────┬───────────────┬───────┘
                  │               │
        ┌─────────▼──────┐  ┌─────▼──────────────┐
        │  ai-brain      │  │  rechner           │
        │  (mcp)         │  │  (rechner-mcp)     │
        │                │  │                    │
        │  Server        │  │  Dienste           │
        │  Zugangsdaten  │  │  Datenträger       │
        │  Aufgaben      │  │  Last · VRAM       │
        │  Gedächtnis    │  │  Befehle           │
        │  Mail · Vault  │  │  Bildschirm        │
        │  Rechtefenster │  │  Fenster · Tasten  │
        └────────────────┘  └────────────────────┘
```

Das war die Trennung, an der es vorher scheiterte: Hermes konnte die Maschine,
aber nicht unsere Daten. Die Werkzeuge von AI Brain konnten unsere Daten, aber
nicht die Maschine. Und ein Channel in seinem Docker-Container kommt
grundsätzlich nur an sein eigenes Dateisystem — der Harness läuft **auf** dem
Rechner.

### Was noch fehlt

Der **eigene Loop**. Heute wird der Motor pro Zug gerufen (`claude -p`), und das
Gespräch hält die Sitzungskennung zusammen. Oberfläche, Werkzeuge, Verlauf und
Buchführung gehören uns; das Rechnen ist eingekauft. Ein eigener Loop braucht
einen eigenen Modellzugang — eine Kostenentscheidung, die nicht beim Bauen
fallen soll. Die Trennung sitzt deshalb an einer einzigen Stelle
(`maske.rs::motor_args`), damit sie sich tauschen lässt.

### Belege

Hermes ist auf dem Hauptrechner gemessen (Werkzeugliste, Ablage,
`unavailable_toolsets`). Pi und OpenClaw sind aus deren öffentlicher
Dokumentation belegt:

- [Pi: The Minimal Agent Within OpenClaw](https://lucumr.pocoo.org/2026/1/31/pi/)
- [Pi Agent Extensions: Change the Harness, Not Just the Prompt](https://www.aibuilderclub.com/blog/pi-agent-extensions-guide)
- [Agent runtime architecture · OpenClaw](https://docs.openclaw.ai/agent-runtime-architecture)
- [OpenClaw Architecture — Tools, Plugins, and Capability Boundaries](https://theagentstack.substack.com/p/openclaw-architecture-part-5-tools)
- [Harness Engineering: Anatomy, Architecture, and Evolution of Coding Agents — A Source-Code Study of Eleven Systems](https://arxiv.org/pdf/2609.00006)

## Was dabei passiert

```
ai-brain-harness                         AI Brain
   |                                 |
   |-- Steckbrief lesen ------------>|   /.well-known/ai-brain
   |<-- Endpunkte + Client-ID -------|
   |                                 |
   |-- Kopplung starten ------------>|   /oauth/device/code
   |<-- Code "WXYZ-1234" ------------|
   |                                 |
   |   Du bestätigst im Browser      |   /oauth/device
   |                                 |
   |-- wartet ---------------------->|
   |<-- Zugangstoken ----------------|
   |                                 |
   |-- Gerät einrichten ------------>|   /api/v1/companion/provision
   |<== eigener Gerätezugang ========|
```

Am Ende hat **dieser Rechner** einen eigenen Zugang, der **dir** gehört. Er
taucht unter „Meine Geräte" auf und lässt sich dort jederzeit entziehen.

Warum ein eigener Zugang pro Gerät und nicht ein geteilter: So bleibt
nachvollziehbar, was auf welchem Rechner passiert ist. In der Zeiterfassung
steht der Gerätename, zugerechnet wird die Arbeit dir.

## Installieren

### Von deiner AI-Brain-Instanz (empfohlen)

```bash
curl -fsSL https://deine-brain-domain.de/install.sh | sh
```

Jede Instanz liefert die CLI selbst aus. Der Vorteil: **Die Domain steckt
schon im Befehl** — das Skript merkt sie sich, und danach genügt
`ai-brain-harness connect` ohne Argument.

Ohne AI Brain ist die CLI ohnehin nutzlos; die Instanz ist also ihr
natürlicher Ort. Wer AI Brain selbst betreibt, muss seine Leute damit nicht auf
ein fremdes Repository schicken.

Was eine Instanz bereithält, steht unter `https://deine-domain.de/install.json`.

> **Für Betreiber:** Die Wege kommen mit AI Brain mit, die Programme nicht — 8 MB
> Binärdateien gehören nicht ins Repository. Einmal
> `php artisan companion:fetch` auf der Instanz, danach versorgt sie ihre eigenen
> Rechner. Ohne Internetzugang: `companion:fetch --von=/pfad/zum/ordner`. Liegt
> für eine Plattform nichts bereit, sagt das Skript das und verweist auf den
> Quelltext, statt eine kaputte Datei zu installieren.
>
> **Bauen kannst du selbst — GitHub Actions braucht es dafür nicht.** Linux
> direkt mit `cargo build --release`, Windows in einem Container:
>
> ```bash
> docker run --rm -v "$PWD":/src:ro -v /tmp/aus:/out -w /work rust:1-bookworm sh -c '
>   apt-get update -qq && apt-get install -y -qq gcc-mingw-w64-x86-64
>   rustup target add x86_64-pc-windows-gnu
>   cp -r /src/. /work/ && rm -rf /work/target
>   cargo build --release --target x86_64-pc-windows-gnu
>   cp target/x86_64-pc-windows-gnu/release/ai-brain-harness.exe /out/'
> ```
>
> Dauert etwa 20 Sekunden. `mingw-w64` und Rust sind frei — hier steht keine
> Lizenz im Weg. **Für macOS geht das nicht:** Dafür braucht es Apples SDK, und
> dessen Lizenz erlaubt die Nutzung nur auf Apple-Hardware. Das lässt sich nicht
> wegcontainern, sondern nur auf einem Mac erledigen (siehe unten) — dessen
> Ergebnis du dann mit `companion:fetch --von=…` auf die Instanz legst, damit
> jeder weitere Mac es fertig bekommt.

### Von GitHub

```bash
curl -fsSL https://raw.githubusercontent.com/peppermint-digital/ai-brain-harness/main/install.sh | sh
```

> ⚠️ Aktuell existiert **kein Release**. Das Skript baut deshalb aus dem
> Quelltext (siehe unten) — schneller bist du mit dem Weg über deine Instanz.

Holt das gebaute Programm aus dem letzten Release, legt es nach `~/.local/bin`
und trägt das Verzeichnis in `~/.zshrc` und `~/.bashrc` ein, falls es dort noch
fehlt. Mehrfaches Ausführen ändert nichts doppelt; einen vorhandenen eigenen
Eintrag lässt es in Ruhe. `~/.bash_profile` und `~/.profile` werden nur
angefasst, wenn sie schon existieren.

Danach eine neue Shell öffnen (oder `. ~/.zshrc`).

Gibt es kein passendes Release, **baut das Skript aus dem Quelltext** — dann
braucht es Rust (`curl --proto '=https' --tlsv1.2 -sSf https://sh.rustup.rs | sh`)
und etwa eine halbe Minute.

### macOS

Solange auf der Instanz kein fertiges Programm für macOS liegt, baut der Mac es
sich selbst — zwei Befehle, ein bis zwei Minuten Rechenzeit:

```bash
curl --proto '=https' --tlsv1.2 -sSf https://sh.rustup.rs | sh
cargo install --git https://github.com/peppermint-digital/ai-brain-harness
```

Danach liegt es in `~/.cargo/bin` und du verbindest wie überall:

```bash
ai-brain-harness connect brain.example.com
```

Das ist kein Notbehelf, sondern für einen einzelnen Mac der kürzere Weg — er
kommt ohne Release, ohne Token und ohne fremde Baumaschine aus.

Wer mehrere Macs anzubinden hat, baut einmal auf einem davon und legt das
Ergebnis auf die Instanz:

```bash
# auf dem Mac
cargo build --release
# Datei als ai-brain-harness-aarch64-apple-darwin auf die Instanz bringen,
# dort:  php artisan companion:fetch --von=/pfad/zum/ordner
```

Ab dann genügt auf jedem weiteren Mac der Einzeiler von der Instanz.

### Windows

```powershell
irm https://deine-brain-domain.de/install.ps1 | iex
```

Wie unter Linux liefert die Instanz das Skript selbst aus, mit ihrer Adresse
darin. Es holt die `.exe`, **prüft die Prüfsumme aus `/install.json`**, nimmt die
Herkunftsmarkierung weg (sonst fragt der SmartScreen beim ersten Start nach),
merkt sich die Adresse unter `%APPDATA%\ai-brain-cli\instanz` und ergänzt
den PATH — den des **Benutzers**, nicht den des Systems, der bräuchte
Administratorrechte.

Danach ein neues Terminal öffnen, dann genügt `ai-brain-harness connect` ohne
Argument.

Wenn du die Adresse nicht zur Hand hast, geht auch der Weg über dieses
Repository — das Skript fragt dann danach und holt den Rest von dort:

```powershell
irm https://raw.githubusercontent.com/peppermint-digital/ai-brain-harness/main/install.ps1 | iex
```

Alternativ funktioniert unter WSL die Linux-Anleitung unverändert.

### Von Hand

```bash
git clone https://github.com/peppermint-digital/ai-brain-harness.git
cd ai-brain-harness
cargo build --release
install -m 755 target/release/ai-brain-harness ~/.local/bin/
```

### Plattformen

| Plattform | Stand |
|---|---|
| Linux x86-64 | Ende zu Ende erprobt, fertiges Programm auf der Instanz |
| Windows x86-64 | gebaut (GNU-Ziel, im Container); Installer gegen die echte Instanz durchgespielt, aber **auf echtem Windows noch nicht gelaufen** |
| macOS | wird auf dem Mac selbst gebaut, **noch nicht im Feld erprobt** |

Die Pfadauflösung unterscheidet sich zwischen den Systemen: `HOME` gibt es unter
Windows nicht, dort heißt es `USERPROFILE`, und die Verbindungsdaten gehören
nach `%APPDATA%` statt in einen versteckten Ordner. Das ist berücksichtigt und
durch einen Test abgedeckt — aber ein Test ist kein echtes Windows.

**Signaturen brauchst du dafür nicht.** Ein Programm, das per `curl` im Terminal
ankommt, bekommt unter macOS kein Quarantäne-Merkmal — Gatekeeper greift bei
`.dmg`, `.pkg` und allem, was im Finder doppelgeklickt wird. Unter Windows
nimmt das Installationsskript die Markierung mit `Unblock-File` weg.

## Verbinden

```bash
ai-brain-harness connect brain.example.com
```

Die CLI zeigt einen Code und eine Adresse. Öffne sie, melde dich an,
bestätige. Der Browser meldet „Gerät verbunden", das Terminal zeigt:

```
Fertig.
  Gerät          : bastian@mein-laptop (linux x86_64)
  Zugerechnet an : Bastian
  Hinterlegt in  : ~/.config/ai-brain-cli/connection.json
  Claude Code    : Eintrag „ai-brain" in ~/.claude.json
```

Claude Code neu starten, dann stehen die Werkzeuge bereit.

**Codex wird mitbedient**, falls es installiert ist. Die CLI nutzt dafür
`codex mcp add` — Codex kennt sein eigenes TOML-Format am besten, und die
`~/.codex/config.toml` enthält meist schon andere Abschnitte, die kein
selbstgebauter Schreiber anfassen sollte.

### Optionen

| Option | Wirkung |
|---|---|
| `--name <Name>` | Abweichender Gerätename |
| `--no-claude-config` | Claude-Code-Konfiguration nicht anfassen |

## Gerätenamen

Der Standardname ist `konto@rechner` plus Plattform, also etwa
`bastian@omarchy (linux x86_64)`.

Das Konto steht bewusst mit drin: Zwei Benutzerkonten auf derselben Maschine
sind aus Sicht von AI Brain zwei Geräte, weil die Verbindung pro Konto in
`~/.config` liegt. Ohne den Kontonamen entstünden zwei Einträge mit identischem
Namen — und weil dieser Name in der Zeiterfassung als Gerät erscheint, wäre die
Auswertung pro Rechner damit wertlos. Genau das ist beim ersten Feldtest
passiert.

Nachträglich umbenennen kannst du jedes Gerät unter „Meine Geräte" über das
Stift-Symbol. Neu koppeln ist dafür nicht nötig.

## Skills und Agents abgleichen

```bash
ai-brain-harness sync           # zeigt nur, was sich ändern würde
ai-brain-harness sync --apply   # schreibt
```

Skills landen unter `~/.claude/skills/`, Agents unter `~/.claude/agents/`.

### Was dabei nicht passiert

**Was nur bei dir liegt, bleibt liegen.** Ein Skill, den du selbst gebaut hast,
wird nicht gelöscht, nicht überschrieben und nicht hochgeladen. Die geteilte
Ablage geht er nichts an, solange du ihn nicht dorthin gibst.

**Was du geändert hast, wird nicht stillschweigend ersetzt.** Hat sich ein
Eintrag auf beiden Seiten bewegt, meldet `sync` einen Konflikt und lässt ihn in
Ruhe. Mit `--force` überschreibst du trotzdem — deine Fassung wandert dann als
`<name>.lokal` daneben, statt verloren zu gehen.

**Hooks werden nie eingerichtet.** Ein Hook ist keine Datei, sondern ein Befehl
in der `settings.json`, der von selbst ausgeführt wird. Er taucht in der Liste
auf, damit du weißt, dass es ihn gibt — eingerichtet wird er von Hand.

### Optionen

| Option | Wirkung |
|---|---|
| `--apply` | Änderungen wirklich schreiben |
| `--only <name>` | Nur diesen einen Eintrag |
| `--force` | Auch überschreiben, wo lokal geändert wurde |
| `--aufraeumen` | Nicht mehr Ausgewähltes entfernen (siehe unten) |

`--force` und `--aufraeumen` tun allein nichts — sie brauchen zusätzlich
`--apply`.

### Auswahl pro Rechner

Unter „Meine Geräte" legst du fest, was auf diesem Rechner liegen soll. Die
CLI meldet sich mit ihrem Gerätezugang an, die Instanz weiß also, wer
fragt, und schickt genau diese Auswahl.

Pro Gerät gibt es zwei Betriebsarten:

| Modus | Bedeutung |
|---|---|
| **Alles** | Der Rechner bekommt das gesamte Repository |
| **Nur Auswahl** | Genau das Angehakte — auch nichts, wenn nichts angehakt ist |

**Neu verbundene Rechner starten auf „Nur Auswahl"** und damit leer. Du
entscheidest, was drauf soll, statt 194 Einträge vorgesetzt zu bekommen.

### Abgewähltes entfernen

```bash
ai-brain-harness sync --apply --aufraeumen
```

Entfernt Einträge, die nicht mehr ausgewählt sind. Aber nur die, die **der
ai-brain-harness selbst geschrieben hat** und die seither **unverändert** sind.

Alles andere bleibt liegen, auch mit `--aufraeumen`: deine Eigenbauten, alles
was du verändert hast, und alles was sie nie angelegt hat. Eine Synchronisation,
die fremde Arbeit löschen kann, ist keine Synchronisation mehr.

Ohne `--aufraeumen` wird nichts entfernt — es wird nur gemeldet.

## Etwas zurückgeben

```bash
ai-brain-harness publish mein-skill
ai-brain-harness publish mein-skill --grund "Abschnitt zu X ergänzt"
```

Nimmt einen Eintrag aus `~/.claude/skills/` oder `~/.claude/agents/` und legt
ihn im Repository ab. Existiert er dort schon, wird er aktualisiert statt
verdoppelt — die vorherige Fassung bleibt als Version erhalten und ist
zurückholbar.

Das ist bewusst ein eigener Befehl und passiert **nie** als Nebeneffekt von
`sync`. Ein Skill, den du für dich gebaut hast, mit Notizen oder Pfaden darin,
soll nicht ungefragt in einer Ablage landen, die alle lesen können.

Binärdateien überspringt der Befehl und sagt welche — lieber melden als etwas
Kaputtes hochladen.

### Wie Änderungen erkannt werden

Die CLI merkt sich beim Schreiben zwei Dinge: die Prüfsumme, die die
Instanz damals nannte, und einen eigenen Hash über die Dateien, wie sie sie
hingelegt hat. Beim nächsten Lauf vergleicht sie den ersten mit der Instanz
(hat sich dort etwas getan?) und den zweiten mit der Platte (hat hier jemand
Hand angelegt?).

Beide Vergleiche laufen gegen den eigenen Wert. Die Server-Prüfsumme
nachzurechnen wäre naheliegend, aber zerbrechlich: Zwei Sprachen müssten bis
aufs letzte Escaping identisch serialisieren, und ein einziger Unterschied
ließe alles als „geändert" erscheinen.

## Agentenläufe

```bash
ai-brain-harness agent --task 7666
ai-brain-harness agent --projekt ai-brain "Changelog für heute schreiben"
ai-brain-harness agent --modell codex --dir ~/Development/crm "Tests reparieren"
ai-brain-harness agent --task 7666 --trocken     # nur zeigen, was passieren würde
```

Startet einen Agenten auf diesem Rechner, meldet ihn im Register an und
protokolliert, was er tut.

**Die Schleife ist gemietet, nicht gebaut.** Die CLI ruft `claude -p` bzw.
`codex exec` auf. Es gibt hier keinen eigenen Modellaufruf, keinen eigenen
Werkzeug-Dispatch und keine eigene Kontextkürzung — der Claude Agent SDK *ist*
Claude Code als Bibliothek, und für Codex, Ollama und OpenRouter löst eine
eigene Schleife ohnehin nichts. Was die CLI beiträgt, ist das, was dem
gemieteten Agenten fehlt: Kontext aus AI Brain, eine geprüfte Umgebung, ein
Registereintrag und ein Protokoll.

**Dein eigener Login zählt.** Der Lauf nutzt die Anmeldung, die auf diesem
Rechner ohnehin gilt — Abo oder `ANTHROPIC_API_KEY`. Es wird kein Token
weitergereicht und kein Proxy gebraucht.

**Der Vorlauf bleibt kurz.** Der Agent bekommt gesagt, welche Aufgabe gemeint
ist und dass `/brain` gilt — den Kontext holt er sich selbst über MCP. Alles
hineinzukopieren hiesse, eine zweite Kopie zu pflegen, die veraltet.

**Sitzungsvariablen werden entfernt.** `CLAUDECODE`, `CLAUDE_CODE_*`,
`CLAUDE_PID`, `CLAUDE_EFFORT`. Ohne das hält sich ein aus einer laufenden
Claude-Code-Sitzung gestarteter Agent für ein Kind davon und schreibt kein
eigenes Transkript.

### Eine Unterhaltung weiterführen

```bash
ai-brain-harness agent --projekt x "Merke dir die Zahl 4711."
ai-brain-harness logs <kennung>            # zeigt die Sitzungskennung
ai-brain-harness agent --sitzung <uuid> "Welche Zahl war es?"   # → 4711
ai-brain-harness agent --fortsetzen "..."  # die letzte hier
```

Ohne diese Schalter beginnt jeder Lauf von vorn. Das war die grösste Lücke
gegenüber Hermes, das Unterhaltungen über Monate hält — die Schalter gibt es in
beiden Werkzeugen, sie wurden nur nicht durchgereicht.

**Die Sitzungskennung kommt von uns, nicht aus der Ausgabe.** `claude` nimmt
eine vorgegebene (`--session-id <uuid>`); die CLI leitet sie aus der
Lauf-Kennung ab und schreibt sie ins Register. Der Umweg über
`--output-format json` hätte das Protokoll von lesbarem Text in JSON verwandelt,
nur um eine Zeichenkette zu erfahren.

| | claude | codex |
|---|---|---|
| frisch | `--session-id <uuid>` (wir vergeben sie) | eigene Kennung, von codex |
| `--fortsetzen` | `-c` | `exec resume --last` |
| `--sitzung <id>` | `-r <id>` | `exec resume <id>` |

**Eine Kombination geht nicht, und sie wird abgelehnt statt stillschweigend
geändert:** `codex exec resume` kennt kein `-s/--sandbox`, also ist
`--schreibend` beim Fortsetzen mit codex nicht ausdrückbar. Den Schalter
einfach fallen zu lassen wäre das Schlimmste — der Lauf liefe mit anderen
Rechten als verlangt, und niemand sähe es.

Im Pane (`--imkr`) geht Fortsetzen nur mit `--modell claude`; für codex heisst
der interaktive Weg `codex resume` und ist hier nicht verdrahtet.

### Was in AI Brain davon ankommt

Jeder Lauf meldet Anfang und Ende als Audit-Eintrag: Projekt, Aufgabe, Modell,
Verzeichnis, Rechte-Stufe, Weg, Exit-Code, Dauer.

**Person und Gerät muss die CLI dafür nicht mitgeben.** AI Brain nimmt die
Person aus dem Token und den Gerätenamen aus dem OAuth-Client — bei einem
Gerätezugang ist der Client-Name der Gerätename. Dieselbe Person an zwei
Rechnern bleibt damit auseinanderzuhalten.

**Ein fehlgeschlagenes Protokoll hält den Lauf nicht auf.** Die Arbeit passiert
auf diesem Rechner; ist AI Brain gerade nicht erreichbar, gibt es eine Zeile auf
stderr und der Lauf läuft. Ohne Verbindung geht `agent` überhaupt — nur `--task`
verlangt sie, denn ein Lauf „an Aufgabe #N", der die Aufgabe nicht kennt,
arbeitet an etwas Erfundenem.

**Zeiteinträge werden nicht angelegt.** Ein Agentenlauf ist Maschinenzeit, keine
Arbeitszeit eines Menschen; automatisch erfasst würde er die Zeiterfassung
aufblähen und sich mit dem eigenen Timer überlappen. Wer die Zeit haben will,
trägt sie bewusst ein.

### In einem imkr-Pane statt als Kindprozess

```bash
ai-brain-harness agent --imkr --task 7667
```

Ein beaufsichtigter Lauf ist ein Kindprozess: Die CLI hält ihn, schreibt sein
Protokoll, stempelt seinen Herzschlag. Richtig für unbeaufsichtigte Arbeit —
aber man kann ihm nicht zusehen und nichts hineinrufen.

Mit `--imkr` startet der Lauf **interaktiv in einem neuen imkr-Fenster**. Dann
gilt:

| | beaufsichtigt | `--imkr` |
|---|---|---|
| Protokoll | `protokoll.txt` | der Schirm (`logs` zeigt ihn) |
| Zustand | Herzschlag der CLI | von imkr (`imkr status`-Hooks) |
| Zusehen, mitreden | nein | `imkr read`, `imkr msg` |
| Zeitgrenze | ja | nein (das Pane gehört imkr) |

Die CLI baut davon **nichts** nach. Was imkr kann — Panes, Agentenzustand,
Nachrichten zwischen Agenten, Übersicht über mehrere Rechner — bleibt bei imkr.

**imkr ist optional.** Ohne imkr fehlt nur diese Betriebsart. `imkr new`
startet allerdings keine Sitzung: `--imkr` geht nur aus einer laufenden
imkr-Sitzung heraus, und wer es von aussen versucht, bekommt das gesagt.

**Ein Pane in einem unbekannten Verzeichnis fragt erst nach Vertrauen.** Claude
Code tut das beim ersten Mal; im Druckmodus (`-p`) passiert es nicht, in einem
Pane schon. Die CLI sagt das vorher — und beantwortet die Frage nicht für dich.
Ein Flag in deine Konfiguration zu schreiben, um eine Sicherheitsabfrage
wegzuklicken, ist keine Bequemlichkeit.

Solange dort etwas fragt, meldet `agents` den Lauf als `wartet` mit Grund — und
**nicht** als `fertig`. Das ist nicht selbstverständlich: imkr meldet ein Pane,
das an einem Dialog hängt, als `done`. Ein Lauf gilt erst dann als fertig, wenn
er vorher gearbeitet hat.

### Rechte und Grenzen

Drei Stufen, aufsteigend:

| | claude | codex | braucht Freigabe |
|---|---|---|---|
| (ohne Schalter) | Vorgaben | Vorgaben | nein |
| `--schreibend` | `--permission-mode acceptEdits` | `-s workspace-write` | **ja** |
| `--vollzugriff` | `--permission-mode bypassPermissions` | `--dangerously-bypass-approvals-and-sandbox` | **ja** |

**Gesichert wird nicht „ein Agent läuft", sondern „ein Agent fragt nicht
mehr".** Ein Lauf ohne Schalter fragt, bevor er etwas tut — damit ist er nicht
gefährlicher als ein Mensch, der dort `claude` tippt, und er braucht keine
Freigabe. Das ist Absicht: Ein Riegel, der am Alltag hängenbleibt, wird
abgeschaltet.

```bash
ai-brain-harness freigabe                        # was freigegeben ist
ai-brain-harness freigabe add ~/Development      # mit Unterverzeichnissen
ai-brain-harness freigabe rm ~/Development
```

**Ohne Freigabedatei gibt es keinen Vollzugriff — nirgends.** Pfade werden
aufgelöst, nicht verglichen: `~/frei/../geheim` ist als Zeichenkette etwas
anderes als `/home/du/geheim`, als Verzeichnis aber dasselbe. Und ein Nachbar
mit gleichem Namensanfang (`Development-geheim` neben `Development`) gilt nicht
mit.

Das Heimatverzeichnis oder `/` freizugeben verlangt zusätzlich `--trotzdem` —
das wären auch `~/.ssh` und die Zugangsdaten dieser CLI.

**Zeitgrenze:** Vorgabe eine Stunde, `--zeitgrenze <sekunden>`, `0` hebt sie
auf. Ein unbeaufsichtigter Lauf, der hängt, hielte sonst ewig seinen Herzschlag
und sähe für jeden Leser gesund aus. Beim Erreichen wird der Lauf beendet und
mit Grund vermerkt.

Eine **Zug-Grenze gibt es nicht**: `claude` kennt kein `--max-turns`. Einen
Schalter anzubieten, den die Gegenseite nicht hat, wäre ein Versprechen ohne
Deckung.

**`codex exec` braucht ein Git-Verzeichnis.** Ausserhalb bricht es mit „Not
inside a trusted directory" ab, ohne etwas zu tun. Die CLI prüft das vorher und
sagt es — umgangen wird es nicht (`--skip-git-repo-check` wäre ein Riegel, den
wir für dich wegklicken).

Was `--modell ollama` angeht: noch nicht verdrahtet. Der Weg führt über die
codex-CLI mit eigener Basis-Adresse; bis dahin sagt die CLI das, statt etwas
anderes zu starten.

### Laufende Läufe ansehen

Die CLI hält mehrere Agentenläufe gleichzeitig und gibt Auskunft über sie.

```bash
ai-brain-harness agents                  # was hier läuft
ai-brain-harness agents --json           # dasselbe für Programme
ai-brain-harness logs <kennung>          # was ein Lauf geschrieben hat
ai-brain-harness logs <kennung> --zeilen 500
ai-brain-harness stop <kennung>          # einen Lauf beenden
```

```
● laeuft    1760440000-999     claude     #7665    1h06
✓ fertig    1760436210-8821    codex      ai-brain 4m
✗ fehler    1760430004-7719    claude     #7612    12m
              Aufseher verschwunden — kein Lebenszeichen seit 412 s
```

Vier Zustände: `laeuft`, `wartet` (der Agent hat eine Rückfrage), `fertig`,
`fehler`.

**Wie ein verschwundener Lauf erkannt wird.** Der Aufseher stempelt im Takt ein
Lebenszeichen. Bleibt der Stempel länger als drei Minuten stehen, gilt der Lauf
als verschwunden und erscheint als `fehler` mit Grund. Das ist bewusst nicht
„läuft der Prozess noch?": Diese Frage braucht entweder eine weitere
Abhängigkeit oder `/proc`, das es unter macOS nicht gibt — und sie übersieht den
Fall, dass ein Prozess lebt, aber nichts mehr tut.

**Der Befund wird geschrieben, nicht nur angezeigt.** `agents` korrigiert den
Zustand in der Datei. Sonst stünde dort für immer „laeuft", und jeder weitere
Leser — das imkr-Plugin, AI Brain — müsste dieselbe Herleitung nachbauen.

**Was wann verschwindet:** abgeschlossene Läufe nach 14 Tagen samt Protokoll.
Laufende nie, egal wie alt.

### Wo das liegt

| Pfad | Inhalt |
|---|---|
| `${XDG_STATE_HOME:-~/.local/state}/ai-brain-cli/laeufe/<kennung>/lauf.json` | Zustand des Laufs |
| `…/laeufe/<kennung>/protokoll.txt` | seine Ausgabe |

Unter Windows `%LOCALAPPDATA%\ai-brain-cli\laeufe`.

Bewusst **nicht** in `~/.config`: Dort liegen die Zugangsdaten, das wird
gesichert und zieht bei einer Umbenennung mit um. Protokolle laufender Agenten
haben da nichts zu suchen.

Die Kennung ist `<sekunde>-<prozess>`, bei Kollision mit Zusatz. Der Ordner wird
mit `create_dir` beansprucht — das scheitert, wenn es ihn schon gibt, und ist
damit auch zwischen zwei Prozessen eindeutig.

## Die Maske

`brain` öffnet die Eingabemaske. Sie gehört uns — Eingabe, Darstellung und
Buchführung; der Motor wird pro Zug gerufen und sieht das Terminal nie.

```
▰ AI Brain Harness · AI Brain
──────────────────────────────────────────────────────────────────
Wer        Bastian auf omarchy  ·  Konto claude:henneberg
Motor      claude · Vorgabe des Werkzeugs
Hier       ai-brain · ~/Development/ai-brain
Greift auf AI Brain · diesen Rechner  ·  lesend — nachsehen ja, anfassen nein
──────────────────────────────────────────────────────────────────
Lauf 1792069936-409863  ·  /hilfe für Befehle ohne Modell  ·  Ctrl-D beendet

▸ Führe aus: sleep 8 && echo FERTIG
  ⚒ Bash  sleep 8 && echo FERTIG
  ⠹ Bash arbeitet · 8s

FERTIG
  0.5144 $
```

Die letzte Zeile vor der Antwort überschreibt sich selbst und zählt mit. Das
ist kein Zierrat: während ein Werkzeug arbeitet, kommt vom Motor **nichts** —
ein Befehl mit 60 Sekunden Frist sah vorher aus wie ein Hänger, und man drückt
Ctrl-C auf etwas, das gerade richtig läuft.

Der Werkzeugname kommt aus dem Blockanfang, nicht aus der fertigen Nachricht.
Das ist der Unterschied zwischen „ich sehe, was er tut" und „ich sehe
hinterher, was er getan hat". Die Argumente stehen daneben: wer einem Programm
die Hoheit über seinen Rechner gibt, soll sehen, womit es sie benutzt.

### Befehle ohne Modell

Eine Nachfrage ist keine Denkaufgabe. Diese Befehle laufen ohne Motor und
kosten nichts:

| Befehl | Was er zeigt |
|---|---|
| `/aufgaben` | offene Aufgaben des Projekts |
| `/auftraege` | Aufträge, die für diesen Rechner anliegen |
| `/daueraufgaben` | eingerichtete Daueraufträge dieses Rechners |
| `/erinnerungen` | Gedächtnis mit AI Brain abgleichen |
| `/dienste [namen]` | Zustand von Diensten (ohne Namen: alle fehlgeschlagenen) |
| `/rechner` | Last, Speicher, Platten, Grafikkarte |
| `/konto [name]` | welches Konto arbeitet — ohne Name: beide Quellen |
| `/rechte [stufe]` | `lesend` oder `steuernd` |
| `/neu` | Verlauf fallen lassen |
| `/hilfe` | diese Liste (auch `/help`, `/?`) |
| `/ende` | Schluss (auch `/quit`, `/exit`, oder Ctrl-D) |

### Konten

`/konto` fragt **zwei** Quellen und kennzeichnet beide:

```
  Auf diesem Rechner (imkr)
    claude
      stelljes · henneberg (standard) · department
    codex
      henneberg (standard)

  In AI Brain
    Stelljes                     claude  …9gAA
```

Wer imkr benutzt, hat seine Konten dort; wer nicht, hat sie in AI Brain. Fällt
eine Quelle aus, verschluckt das die andere nicht.

Ein Wechsel beginnt ein **neues** Gespräch: der Verlauf gehört dem Konto, mit
dem er begonnen hat. Gewechselt wird derzeit nur zu imkr-Konten — ob ein Gerät
das Token der Instanz abholen darf, ist eine offene Entscheidung.

## Dieser Rechner als Werkzeug

Neben den Werkzeugen von AI Brain hängt an jedem Zug ein zweiter
Werkzeugserver: dieser Rechner.

| Werkzeug | Was es tut | Braucht steuernde Rechte |
|---|---|---|
| `rechner-dienste` | Zustand von systemd-Units; ohne Argument alle fehlgeschlagenen | — |
| `rechner-datentraeger` | Belegung der Dateisysteme und Netzlaufwerke | — |
| `rechner-last` | Laufzeit, Last, Speicher, Grafikkarte | — |
| `rechner-fenster` | offene Fenster der grafischen Sitzung | — |
| `rechner-bildschirmfoto` | Bildschirmaufnahme (grim) | — |
| `rechner-befehl` | Shell-Befehl als angemeldeter Nutzer | ja |
| `rechner-dienst-steuern` | Unit starten, stoppen, neu starten | ja |
| `rechner-tippen` | Text in das Fenster mit dem Fokus (wtype) | ja |
| `rechner-taste` | Taste oder Kombination drücken | ja |

Unter `lesend` **fehlen** die ändernden Werkzeuge in der Liste, statt im Aufruf
abgelehnt zu werden. Ein Werkzeug, das dasteht und dann „darfst du nicht" sagt,
lädt zum Probieren ein und kostet jedes Mal einen Zug.

Die Rechte stehen in der Umgebung (`AI_BRAIN_RECHNER_RECHTE`), nicht im Aufruf:
ein Modell kann sie im laufenden Prozess nicht erweitern.

Bildschirm, Tastatur und Fenster brauchen eine laufende grafische Sitzung. Aus
einer reinen Textsitzung heraus wird das gesagt, statt mit „failed to retrieve
wayland globals" zu scheitern — eine Meldung, die nach einem fehlenden
Programm klingt, obwohl nur die Sitzung fehlt.

## Daueraufträge

Ein Dauerauftrag ist eine wiederkehrende Aufgabe, die in AI Brain als **Daten**
liegt. Man legt sie im Gespräch an — „überwache das Restic-Backup" — und der
Harness tut es selbst über `create-device-job-tool`. Kein Code, kein Deploy.

```bash
ai-brain-harness daueraufgaben              # was eingerichtet ist
ai-brain-harness daueraufgaben --fahren     # Fälliges abarbeiten und melden
ai-brain-harness taktgeber --einrichten     # den Abholer als systemd-Nutzer-Timer
ai-brain-harness taktgeber                  # läuft er? wann zuletzt?
ai-brain-harness taktgeber --entfernen
```

`art: befehl` läuft **ohne Modell**. Für Überwachung ist das der Normalfall:
„ist der Dienst aktiv", „ist der Snapshot jünger als 26 Stunden" sind
Schwellenfragen. Ein Modell dafür zu starten kostet bei jedem Durchlauf Geld
für eine Antwort, die feststeht. `art: auftrag` ist für das, was wirklich
Urteil braucht — und wird vom Taktgeber bewusst übersprungen: ein Zeitplan, der
unbeaufsichtigt Modelle anwirft, ist eine Kostenquelle ohne Aufsicht.

### Die Stillfrist ist der Kern

Jeder Dauerauftrag hat eine Stillfrist. Bleibt die Meldung länger aus, entsteht
in AI Brain eine Aufgabe.

Das ist nicht Bequemlichkeit, sondern der Grund für das Ganze. Ein Wächter
meldet sich, **wenn** etwas nicht stimmt — ein abgeschalteter meldet sich
ebenfalls nicht und sieht damit genauso aus wie ein zufriedener. Von diesen
beiden Zuständen ist der falsche der beruhigende.

Auf diesem Rechner stand ein Backup-Wächter dreieinhalb Monate in einer Liste
und ist **nie gelaufen**. Niemand hat es gemerkt, weil Pausiert wie Ruhe
aussieht. Deshalb gilt ein nie gelaufener Dauerauftrag ab seinem Anlegen als
verstummt, nicht erst ab der ersten Meldung.

Und deshalb überwacht der Taktgeber sich **nicht** selbst — das wäre derselbe
Zirkel. Bleibt er stehen, kommen keine Meldungen, und die Gegenstelle schlägt
Alarm.

## Der eigene Loop

Bis Oktober 2026 mietete der Harness fremde Schleifen: `claude` und `codex`. Das
hiess, er konnte nur, was die können — und wer ihn benutzen wollte, musste erst
die Befehlszeile eines Wettbewerbers installieren. Für OpenRouter, Ollama und
alles OpenAI-kompatible gab es überhaupt keinen Weg.

Jetzt gibt es einen eigenen. Er ist **kein Ersatz** für `claude`: Kompaktierung,
Unteragenten, Hooks und der Plan-Modus bleiben dort, und `--durchreichen` bleibt
der Weg dahin. Der eigene Loop ist der Weg zu allem anderen.

### Zwei Formen, nicht eine pro Anbieter

| Form | Weg | Deckt ab |
|---|---|---|
| `openai` | `/v1/chat/completions` | OpenRouter, Ollama, vLLM, Groq, LM Studio … |
| `anthropic` | `/v1/messages` | Anthropic mit API-Schlüssel |

```bash
ai-brain-harness schleife --eintragen ollama --form openai \
  --basis http://127.0.0.1:11434/v1 --modell llama3.1:8b

ai-brain-harness schleife --eintragen openrouter --form openai \
  --basis https://openrouter.ai/api/v1 --modell qwen/qwen3-235b-a22b \
  --schluessel-variable OPENROUTER_API_KEY
```

Der Schlüssel selbst steht **nicht** in der Ablage, nur der Name der
Umgebungsvariable, aus der er kommt.

### Erst messen, dann laufen lassen

```bash
ai-brain-harness schleife --messen            # alle Anbieter
ai-brain-harness schleife --liste             # was eingetragen ist
```

Die Messung ist kein Beiwerk, sondern der Kern. Drei Dinge lassen sich **nicht**
aus Dokumentation ableiten, und jedes hat hier eine Stunde gekostet:

**Werkzeugfähigkeit gehört zum Modell, nicht zum Anbieter.** Auf demselben
Ollama greift `llama3.1:8b` Werkzeuge und `qwen2.5:14b` zunächst nicht. Deshalb
ist die Angabe dreiwertig: `ja`, `nein`, **ungemessen** — und ein neuer Eintrag
ist ungemessen, nicht fähig.

**Eine Stichprobe von eins ist keine Messung.** Der erste Befund zu
`qwen2.5:14b` lautete „kann nicht". Bei drei Proben kamen zwei richtige Griffe
und einer als Text. Das Modell kann es, nur unzuverlässig — und das ist der
Unterschied zwischen „anderes Modell nehmen" und „Adapter härten". Darum nimmt
jede Messung mehrere Proben und nennt die Rate.

**Das Kontextfenster des Servers ist nicht das des Modells.** `llama3.1:8b`
kann 131072 Marken. Ollama wertet trotzdem nur 4096 aus, wenn
`OLLAMA_CONTEXT_LENGTH` nicht gesetzt ist — und *meldet das nicht*. Über den
OpenAI-kompatiblen Weg lässt sich das pro Anfrage auch nicht heben; geprüft sind
`options.num_ctx` und ein Feld auf oberster Ebene, beide ohne Wirkung.

Im Betrieb sah das wie Modelldummheit aus: mit 188 angebotenen Werkzeugen griff
das Modell etwas völlig Unverwandtes und reichte eine *Fehlermeldung* als
Argumente durch. Es hatte den Katalog nur zur Hälfte gesehen. Deshalb misst
`--messen` auch, wo der Server abschneidet, und der Loop hält davor an:

```
Fehler: Der Werkzeugkatalog passt nicht in das gemessene Kontextfenster von
'ollama': rund 42018 Marken bei 4096 Platz (183 Werkzeuge aus AI Brain, 5 von
diesem Rechner).

Der Server wuerde den Rest stillschweigend abschneiden — das Modell saehe einen
halben Katalog und griffe ins Leere.
```

### Laufen

```bash
ai-brain-harness schleife "Wie lange laeuft dieser Rechner?"
ai-brain-harness schleife --ohne-ai-brain "…"     # nur Rechnerwerkzeuge
ai-brain-harness schleife --rechte steuernd "…"   # darf auch anfassen
ai-brain-harness schleife --anbieter openrouter "…"
ai-brain-harness schleife --ohne-werkzeuge "…"   # reines Gespraech
ai-brain-harness schleife --still "…"            # nur die Antwort, keine Zwischenmeldungen
```

Welcher Anbieter ohne `--anbieter` genommen wird, legt `--standard` fest:

```bash
ai-brain-harness schleife --standard openrouter
```

Die Werkzeuge kommen aus beiden Quellen: AI Brain über `tools/list`, dieser
Rechner im selben Prozess. Die Rechte bleiben, wo sie waren — derselbe Riegel
wie bei der Maske entscheidet, ob ein Lauf etwas ändern darf.

Zwei Härtungen arbeiten unsichtbar mit:

- **Erfundene Argumente werden verworfen.** `llama3.1:8b` schickte
  `{"Laufzeit":"true"}` für ein Werkzeug mit *leerem* Schema. Durchgereicht
  trifft so etwas serverseitige Prüfungen, und die Meldung sieht aus, als hätte
  der Harness Unsinn gebaut. Verworfenes wird genannt, nicht geschluckt.
- **Griffe im Textfeld werden eingesammelt.** Ollama klammert Werkzeuggriffe in
  Marken und liest sie zurück; stolpert das Modell beim öffnenden Teil, landet
  der fertige Griff unzerlegt im Text — erkennbar an einem durchgesickerten
  `</tool_call>`. Das Modell hat seine Arbeit getan, die Form ist auf dem Weg
  kaputtgegangen. Eingesammelt wird nur, was auf ein **angebotenes** Werkzeug
  zeigt; sonst löste ein Modell, das über JSON spricht, echte Griffe aus.

### Sitzungen

```bash
ai-brain-harness schleife --sitzungen
ai-brain-harness schleife --fortsetzen 1792079880 "Und die Platte?"
```

Gespeichert wird **auch bei einem Fehler**: ein Lauf, der am dritten Griff
scheitert, hat zwei brauchbare Ergebnisse gesammelt. Was hier *nicht* passiert,
ist Kürzen — wächst eine Sitzung über das Fenster, hält der Riegel oben an und
sagt es. Stilles Kürzen ist genau der Fehler, der bei Ollamas Deckel so teuer
war.

## Verbrauch melden

Claude Code und Codex schreiben in ihre Protokolldateien, wie viele Token und
wie viel Zeit eine Sitzung gekostet hat. Der Harness liest das, bildet je
Sitzung eine Summe und meldet den **Endstand** an AI Brain — dort landet er
neben dem Verbrauch der Channels, in derselben Auswertung.

**Nur Zahlen.** Kein Gesprächsinhalt verlässt den Rechner: gelesen werden
ausschliesslich `usage`-Objekte, Sitzungskennungen, Arbeitsverzeichnisse und
Modellnamen.

```bash
ai-brain-harness verbrauch zeigen      # was gemeldet würde
ai-brain-harness verbrauch melden      # nachholend alles Offene
ai-brain-harness verbrauch hook ein    # am Sitzungsende automatisch
ai-brain-harness verbrauch aus         # auf diesem Rechner abschalten
```

Zusätze: `--zeigen` (nur anzeigen statt melden), `--grenze <n>` (höchstens n
Sitzungen je Lauf, Vorgabe 50), `--sitzung <id>` (nur diese eine), `--vom-hook`
(Kennung aus der Hook-Eingabe auf stdin lesen), `--konto <name>` (nur nötig,
wenn der Harness es nicht selbst aus `CLAUDE_CONFIG_DIR` sieht), `--still`.

Erfasst wird **standardmässig**, abschaltbar je Rechner (hier) und je Person
(in AI Brain). Beim ersten Lauf sagt der Harness einmal sichtbar, dass gemessen
wird und wie man es abstellt.

### Warum der Server die Differenz bildet, nicht der Harness

Eine Meldung trägt den Endstand einer Sitzung, nicht den Zuwachs eines Laufs —
der Harness liest ja eine Datei und kennt nur Summen. Würde der Server
addieren, zählte jede Nachmeldung die ganze Sitzung erneut, und nachgemeldet
wird dauernd. Also differenziert **der Server** gegen den letzten Stand
derselben Sitzung. Zweimal dasselbe melden ändert damit keine Summe.

Dass der Harness die Differenz nicht selbst bildet, ist Absicht: zwei Zähler
laufen irgendwann auseinander, und nur der Server sieht alle Rechner.

### Drei Dinge, die gemessen wurden und den Entwurf geändert haben

**Die Konten teilen sich ein Verzeichnis.** Unter
`~/.local/state/imkr/accounts/claude/<konto>/` sind fast alle Einträge Symlinks
auf `~/.claude` — `projects/` eingeschlossen. Ein Lauf „über alle
Konfigurationen" läse jede Datei mehrfach; deshalb werden die Verzeichnisse
über ihren aufgelösten Pfad entdoppelt. Aus demselben Grund steht in einem
Transcript **kein Konto**: es ist aus der Datei nicht ableitbar.

Nur der `SessionEnd`-Hook läuft innerhalb des Gesprächs und kennt
`CLAUDE_CONFIG_DIR` — er ist damit die einzige Quelle für das Konto.
Nachgeholte Sitzungen bleiben ohne, sichtbar leer statt geraten.

**Codex nennt seinen Verbrauch anders.** `turn.completed` gibt es nicht (0 von
20 Dateien); der Satz heisst `token_usage_record`. Und dort enthält
`input_tokens` die gecachten **mit** — anders als bei Claude. Ohne das
Herausrechnen zählte der Cache doppelt.

**Die Transcripts nennen keine Kosten**, weder bei Claude noch bei Codex. Über
eine vollständige Sitzung mit 4280 `usage`-Objekten geprüft: kein `costUSD`,
kein `total_cost_usd`. In `stats-cache.json` gibt es ein `costUSD`, das steht
auf einem Abo aber für jedes Modell auf `0` — und eine 0 läse sich als „hat
nichts gekostet" statt als „unbekannt".

Dafür kommt die **Zeit**: Claude schreibt die Zugdauer in eigene Sätze
(`subtype=turn_duration`), in einer Sitzung 104 Stück mit zusammen 10,1
Stunden. Auf einem Abo ist das ohnehin die aussagekräftigere Zahl.

### Der Hook steht neben den anderen

`verbrauch hook ein` hängt sich an `SessionEnd` **zusätzlich** ein; vorhandene
Einträge bleiben stehen (auf dieser Maschine etwa imkrs Zustandsmeldung). Vor
dem Schreiben wird die Datei gesichert. Entfernt wird nur der eigene Eintrag,
erkannt an seiner Marke — nicht an seiner Position.

Eingerichtet wird er **ausdrücklich**, nicht still über `sync`: ein Hook läuft
bei jedem Sitzungsende mit, und so etwas gehört nicht nebenbei installiert.

## Weitere Befehle

```bash
ai-brain-harness status            # Zeigt die aktuelle Verbindung
ai-brain-harness configure         # Trägt den MCP-Server nachträglich ein (Claude + Codex)
ai-brain-harness disconnect        # Entfernt die lokale Verbindung
ai-brain-harness mcp               # Läuft als MCP-Server (startet Claude Code selbst)
```

`mcp` rufst du nicht von Hand auf — das macht Claude Code. Der Befehl hält die
Gerätezugangsdaten, besorgt sich damit Zugangstoken, erneuert sie rechtzeitig
und reicht die Aufrufe an die Instanz weiter.

Genau dafür gibt es die CLI überhaupt als dauerhaft laufendes Programm:
Ein Zugangstoken lebt eine Stunde, Claude Codes Konfiguration kann aber nur
einen festen Wert halten. Ohne etwas, das erneuert, wäre die Verbindung nach
einer Stunde tot.

## Wo was liegt

| Datei | Inhalt |
|---|---|
| `~/.config/ai-brain-cli/connection.json` | Gerätezugangsdaten, Rechte `0600` |
| `~/.claude.json` | Eintrag `mcpServers.ai-brain` |
| `~/.claude.json.vor-companion` | Sicherung, angelegt vor dem ersten Eintrag |
| `~/.local/state/ai-brain-cli/laeufe/` | Zustand der Agentenläufe |
| `~/.config/systemd/user/ai-brain-daueraufgaben.{service,timer}` | der Abholer |

Der Name `vor-companion` ist historisch: Das Programm hiess bis Oktober 2026
`ai-brain-companion`. Die Datei behaelt ihren Namen, damit auf den verbundenen
Rechnern keine zweite Sicherung neben der vorhandenen entsteht.

### Umstieg von `ai-brain-companion`

Nichts zu tun. Beim ersten Start holt `ai-brain-harness` die Ablage von
`~/.config/ai-brain-companion/` herueber — die Verbindung, den Abgleichstand
und die gesicherten Fassungen — und sagt, dass es das getan hat. Neu koppeln
ist **nicht** noetig und waere schaedlich: `connect` legte einen zweiten
Geraetezugang an, derselbe Rechner stuende zweimal unter „Meine Geraete", und
die Zeiterfassung verteilte sich auf zwei Namen.

Was schon unter dem neuen Namen liegt, bleibt unangetastet. Konnte etwas nicht
uebernommen werden, bleibt der alte Ordner stehen und das Programm nennt den
Grund — eine halb umgezogene Ablage waere schlimmer als keine.

`disconnect` entfernt nur die lokale Ablage. Der Gerätezugang besteht auf der
Instanz weiter — endgültig entziehst du ihn unter „Meine Geräte".

## Voraussetzungen auf der Instanz

Die Instanz muss den Kopplungs-Client kennen. Einmalig dort ausführen:

```bash
php artisan mcp:companion-client
```

Fehlt er, sagt die CLI genau das — statt in einen OAuth-Fehler zu laufen.

## Wenn etwas klemmt

| Meldung | Bedeutung |
|---|---|
| `command not found` | `~/.local/bin` fehlt im `PATH`. Neue Shell öffnen oder `. ~/.zshrc` |
| `… kennt noch keinen Companion-Zugang` | Auf der Instanz fehlt `php artisan mcp:companion-client` |
| `Der Code ist abgelaufen` | Zu lange gewartet. `connect` einfach neu starten |
| `Die Kopplung wurde im Browser abgelehnt` | Im Bestätigungsdialog auf „Ablehnen" geklickt |
| `Der Gerätezugang wurde abgelehnt` | Gerät wurde unter „Meine Geräte" entzogen. Neu koppeln |

Läuft die Instanz mit Octane, werden Änderungen an ihrem PHP-Code erst nach
einem Neustart des Dienstes wirksam — das betrifft dich nur, wenn du selbst an
AI Brain entwickelst.

## Sicherheit

Der Kopplungs-Client ist öffentlich und hat **kein** Secret. Das ist Absicht:
Ein Programm, das auf fremden Rechnern läuft, kann kein Geheimnis hüten. Die
Berechtigung entsteht nicht durch den Besitz des Programms, sondern durch deine
Bestätigung im Browser.

Der Token, mit dem die CLI seinen Gerätezugang abholt, wird dabei
**verbraucht**. Ein zweiter Versuch mit demselben Token läuft ins Leere.

Bekannte Grenze: Die Gerätezugangsdaten liegen als Datei mit `0600` statt im
Schlüsselbund des Betriebssystems. Das steht auf der Liste.

## Lizenz

MIT
