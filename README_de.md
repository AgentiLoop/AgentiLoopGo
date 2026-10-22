<a href="https://fluxionai.space/register?source=github&campaign=github-sidrune-agentiloop-agent&promo=SDRAGENTLOOP"><img src="docs/sponsors/sidrune-ai-silver-ad_de.svg" width="900" alt="Sidrune AI, Silver-Sponsor: Eine API für GPT, Claude und andere führende KI-Modelle. Registriere dich und erhalte $3 API-Guthaben." /></a>

# AgentiLoopGo

🌐 [English](README.md) · [Español](README_es.md) · [Français](README_fr.md) · [Deutsch](README_de.md) · [中文 (简体)](README_zh.md) · [Русский](README_ru.md) · [한국어](README_ko.md) · [日本語](README_ja.md)

### 🎉 Wir haben Version v0.0.6 für Mac, Windows und Linux veröffentlicht!

---

**Probier es aus!** Lies das README und schau, wie lange du brauchst, bis AgentiLoop läuft. Wenn du auf Probleme stößt, sag uns Bescheid. Wir freuen uns über dein Feedback.

**Bonus:** Es gibt auch eine Rust-Version: **AgentiLoopCLI** → https://github.com/AgentiLoop/AgentiLoopCLI

Probier beide aus und sag uns, welche es besser macht: **Go oder Rust?** 🐹 vs 🦀

---

### 💖 Unterstütze AgentiLoop

Gefällt dir, was du siehst? Hilf mit, dass AgentiLoop schnell und plattformübergreifend bleibt. Unterstütze uns über **[GitHub Sponsors → AgentiLoop](https://github.com/sponsors/AgentiLoop)**. Stufen und Vorteile findest du im [Sponsoring-Leitfaden](https://github.com/AgentiLoop/Agent/blob/main/docs/SPONSORSHIP.md).

[![Unterstütze AgentiLoop](https://img.shields.io/badge/Sponsor-AgentiLoop-ea4aaa?style=for-the-badge&logo=githubsponsors&logoColor=white)](https://github.com/sponsors/AgentiLoop)

---

AgentiLoop ist ein KI-Coding-Agent, der in deinem Terminal läuft, ganz im Stil von Claude Code. Du beschreibst in normaler Sprache, was du willst. Der Agent liest deine Dateien, bearbeitet Code und führt Befehle aus, um es umzusetzen, und er fragt dich um Erlaubnis, bevor er irgendetwas ändert.

Er ist in Go geschrieben und läuft auf macOS, Linux und Windows. Er ist der Go-Zwilling von [AgentiLoopCLI](https://github.com/AgentiLoop/AgentiLoopCLI) (Rust): gleiche Funktionen, gleiche Optionen, gleiche Einstellungs-, Sitzungs- und MCP-Dateien, sodass du beliebig zwischen beiden wechseln kannst. Er funktioniert mit Claude (Anthropic), OpenAI, lokalen Modellen über Ollama oder LM Studio sowie oMLX auf Apple Silicon.

Erstellt mit AgentiLoop Agent! Das ist unser Baby. Fertige Binärdateien für macOS, Linux und Windows findest du auf der Seite [Releases](https://github.com/AgentiLoop/AgentiLoopGo/releases), oder du kompilierst es selbst aus dem Quellcode mit Go.

<img src="docs/pong.png" width="900" alt="AgentiLoop schreibt, baut und startet ein Pong-Spiel im Atari-Stil in SwiftUI aus einer einzigen Eingabe, mit Live-Diff und laufendem Spielfenster" />

---

## ⚡ Beim ersten Start: Der Einrichtungsassistent erledigt alles

Es gibt nichts von Hand zu konfigurieren. Wenn du `agentiloop` zum ersten Mal ausführst, startet ein eingebauter Einrichtungsassistent von selbst. Er fragt, welchen Anbieter du möchtest (Claude, OpenAI, Ollama / LM Studio oder oMLX), nimmt deinen API-Schlüssel entgegen (verdeckt eingegeben), prüft, ob der Schlüssel funktioniert, lässt dich ein Modell wählen und speichert alles in `~/.agentiloop`. Etwa eine Minute, keine Konfigurationsdateien, keine `export`-Zeilen.

<img src="docs/setup-wizard-tui.png" width="900" alt="Der Einrichtungsassistent in der Vollbild-Oberfläche (TUI): Anbieter, verdeckter API-Schlüssel, Verbindungstest, Modellliste, Speicherort des Schlüssels, dann die erste Eingabe" />

Du kannst ihn jederzeit mit `agentiloop --setup` erneut starten (füge `--tui` für die Vollbild-Version hinzu, oder tipp `/setup` in einer Sitzung ein). `agentiloop --reset` vergisst alles und fängt ganz von vorn an. Noch nie ein Kommandozeilenprogramm installiert? Folge [Neu hier?](#-neu-hier-in-5-minuten-startklar) weiter unten, Schritt für Schritt.

---

## 🚀 Neu hier? In 5 Minuten startklar

Kein Rust, kein Go, kein Kompilieren. Du lädst eine Datei herunter, gibst ihr einen API-Schlüssel und fängst an zu chatten. Geh die Schritte der Reihe nach durch.

### 1. AgentiLoop herunterladen

Finde zuerst heraus, welche Datei du brauchst:

| Dein Computer | Herunterzuladende Datei |
|---|---|
| Mac mit Apple Silicon (M1, M2, M3, M4…) | `agentiloop-macos-arm64.tar.gz` |
| Mac mit Intel-Chip | `agentiloop-macos-x86_64.tar.gz` |
| Linux, 64-Bit-PC | `agentiloop-linux-x86_64.tar.gz` |
| Linux auf ARM (Raspberry Pi 4/5, ARM-Server) | `agentiloop-linux-arm64.tar.gz` |
| Windows 10/11 | `agentiloop-windows-x86_64.zip` |

Nicht sicher? Führ auf Mac oder Linux `uname -m` aus. `arm64` oder `aarch64` bedeutet **arm64**, und `x86_64` bedeutet **x86_64**.

**macOS und Linux.** Öffne das Terminal und füge diese Zeilen ein. Das Beispiel verwendet die Apple-Silicon-Datei; ändere also `macos-arm64` in den ersten drei Zeilen, falls deine anders ist:

```sh
curl -LO https://github.com/AgentiLoop/AgentiLoopGo/releases/download/v0.0.6/agentiloop-macos-arm64.tar.gz
tar xzf agentiloop-macos-arm64.tar.gz
mkdir -p ~/.local/bin && mv agentiloop-macos-arm64/agentiloop ~/.local/bin/
```

Damit landet das Programm in `~/.local/bin`, einem Ordner in deinem Home-Verzeichnis. Der Einrichtungsassistent in Schritt 3 bietet dir an, deinem Terminal zu sagen, dass es dort suchen soll.

**Windows.** Öffne **PowerShell** (Startmenü → "PowerShell" eintippen) und füge ein:

```powershell
Invoke-WebRequest https://github.com/AgentiLoop/AgentiLoopGo/releases/download/v0.0.6/agentiloop-windows-x86_64.zip -OutFile agentiloop.zip
Expand-Archive agentiloop.zip -DestinationPath $HOME\agentiloop -Force
$p = [Environment]::GetEnvironmentVariable("Path", "User")
[Environment]::SetEnvironmentVariable("Path", "$p;$HOME\agentiloop\agentiloop-windows-x86_64", "User")
```

Die letzten beiden Zeilen fügen AgentiLoop zu deinem PATH hinzu. **Schließ PowerShell und öffne ein neues Fenster**, damit die Änderung übernommen wird.

### 2. Einen API-Schlüssel besorgen

AgentiLoop ist der Agent. Das „Gehirn" ist ein KI-Modell, mit dem du ihn verbindest. Wähle **eins** aus:

| Option | Wo du ihn bekommst | Kosten |
|---|---|---|
| **Claude** (empfohlen) | [console.anthropic.com](https://console.anthropic.com/settings/keys) → *Create Key*. Er beginnt mit `sk-ant-` | Bezahlung nach Nutzung |
| **OpenAI** | [platform.openai.com/api-keys](https://platform.openai.com/api-keys). Er beginnt mit `sk-` | Bezahlung nach Nutzung |
| **Ollama** (läuft auf deinem eigenen Computer) | Installiere es von [ollama.com](https://ollama.com) und führ dann `ollama pull qwen2.5-coder` aus | Kostenlos, kein Schlüssel |

Kopier den Schlüssel an einen sicheren Ort. Du fügst ihn im nächsten Schritt ein.

### 3. Den Einrichtungsassistenten ausführen

Du bearbeitest keine Dateien und tippst keine `export`-Befehle. AgentiLoop hat einen eingebauten Einrichtungsassistenten, der ein paar Fragen stellt und deinen Schlüssel für dich speichert.

Weil `~/.local/bin` noch nicht in deinem PATH ist, startest du ihn dieses eine Mal mit dem vollständigen Pfad (unter Windows hat Schritt 1 den PATH schon angepasst, tipp dort einfach `agentiloop`):

```sh
~/.local/bin/agentiloop
```

Beim ersten Mal, wenn noch kein Schlüssel eingerichtet ist, startet der Assistent von selbst. Er dauert etwa eine Minute und fragt fünf Dinge:

1. **Welcher Anbieter** — Claude, OpenAI, ein lokaler OpenAI-kompatibler Server (Ollama, LM Studio, …) oder oMLX. Tipp eine Zahl ein.
2. **Dein API-Schlüssel** — verdeckt eingegeben, auf dem Bildschirm erscheint nichts. Lokale Server brauchen meist keinen; bei oMLX auf demselben Mac liest der Assistent den Schlüssel aus den Einstellungen von oMLX, er fragt also gar nicht erst.
3. **Verbindungstest** — der Assistent spricht sofort mit dem Anbieter. Ist der Schlüssel falsch, sagt er es dir und bietet einen neuen Versuch an; gespeichert wird nichts, bis es funktioniert.
4. **Welches Modell** — wähle eins aus der Liste, die der Anbieter zurückgibt, oder drück Enter für den Standard. Du kannst es später jederzeit mit `/model` ändern.
5. **Wo der Schlüssel aufbewahrt wird** — drück Enter für den Standard, `~/.agentiloop/env`, eine private Datei, die nur AgentiLoop liest. (Die anderen Optionen, für alle, die den Schlüssel auch in ihrer Shell oder im macOS-Schlüsselbund haben wollen, findest du unter [Erweitert: den Schlüssel von Hand setzen](#schritt-2-ein-modell-verbinden) im Schnellstart.)

Zum Schluss bemerkt der Assistent, dass `~/.local/bin` nicht in deinem PATH ist, und bietet an, es hinzuzufügen. Drück **Enter** (ja). Dann meldet er `All set` und bringt dich zur Eingabezeile. So sieht ein kompletter Durchlauf im normalen Terminal aus, wenn du Claude wählst und die Standardwerte übernimmst (deine Modellliste wird anders aussehen):

```text
$ ~/.local/bin/agentiloop
Welcome to AgentiLoop! Let's set things up (about a minute).
Settings are kept in /Users/you/.agentiloop. Run `agentiloop --setup` or `/setup` to redo this, `agentiloop --reset` to start over.

Which model provider do you want to use?
  1  Claude (Anthropic) — API key from console.anthropic.com
  2  OpenAI — API key from platform.openai.com
  3  Ollama, LM Studio or another OpenAI-compatible server (local, usually no key)
  4  oMLX (local Apple Silicon server; reads ~/.omlx/settings.json)
Provider [1-4, default 1]: 1
Anthropic API key (starts with sk-ant-, input hidden):
Checking the connection…
Connected (8 model(s) available).

Pick a model (change it any time with /model):
   1  claude-sonnet-5  (default)
   2  claude-…
   3  claude-…
   …
Model [1-8, an id, or Enter for claude-sonnet-5]:

Where should the credential be saved?
  1  /Users/you/.agentiloop/env (recommended; only agentiloop reads it, file mode 600)
  2  Also add it to /Users/you/.zshrc so other tools in your terminal see it
  3  macOS Keychain, with a line in /Users/you/.zshrc that reads it (nothing stored in plain text)
Save to [1-3, default 1]:
saved to /Users/you/.agentiloop/env

`/Users/you/.local/bin` is not on your PATH, so `agentiloop` only works with its full path.
Add it to PATH in /Users/you/.zshrc? [Y/n]
updated /Users/you/.zshrc (between `# >>> agentiloop >>>` and `# <<< agentiloop <<<`); it applies to new terminals

All set: anthropic / claude-sonnet-5. Type a request at the prompt, /help for commands, /exit to leave.
```

Du kannst gleich hier mit dem Chatten anfangen, oder du tippst `/exit` und machst mit Schritt 4 weiter. Ab jetzt startet ein einfaches `agentiloop` direkt in der Eingabezeile.

Für Claude kannst du entweder einen normalen API-Schlüssel (`sk-ant-api…`) oder ein Claude-Code-Token (`sk-ant-oat01-…`, aus `claude setup-token`) einfügen; AgentiLoop erkennt, um welche Art es sich handelt. Wenn du Option 3 (Ollama, LM Studio, …) gewählt hast, fragt der Assistent außerdem nach der Server-URL und bietet `http://localhost:11434/v1` als Standard an, für ein lokales Ollama drückst du also einfach Enter.

**Derselbe Assistent, im Vollbild.** Der Assistent läuft in der Oberfläche, die du benutzt. Starte ihn mit `--tui`, und dieselben Fragen erscheinen in der Vollbild-Oberfläche; wenn er fertig ist, bist du schon an der Eingabezeile:

<img src="docs/setup-wizard-tui.png" width="900" alt="Der Einrichtungsassistent in der Vollbild-Oberfläche (TUI): Anbieter, verdeckter API-Schlüssel, Verbindungstest, Modellliste, Speicherort des Schlüssels, dann die erste Eingabe" />

**Jederzeit erneut starten oder neu machen:**

```bash
agentiloop --setup          # Assistent im normalen Terminal
agentiloop --setup --tui    # Assistent in der Vollbild-TUI (wie im Screenshot)
/setup                      # aus einer laufenden Sitzung heraus (REPL oder TUI)
agentiloop --reset          # alles vergessen und ganz von vorn anfangen
```

> 🔒 **Halte deinen Schlüssel geheim.** `~/.agentiloop/env` kann nur von dir gelesen werden. Füge den Schlüssel nicht in Chats ein und committe ihn nicht in git. Auf dem Mac speichert ihn Option 3 bei der Frage „Where should the credential be saved?“ stattdessen im Schlüsselbund, sodass er nie im Klartext auf der Festplatte liegt.

Du möchtest den Schlüssel lieber selbst über Umgebungsvariablen verwalten? Das geht auch, ist aber der Weg für Fortgeschrittene; siehe [Erweitert: den Schlüssel von Hand setzen](#schritt-2-ein-modell-verbinden) im Schnellstart.


### 4. Prüfen, ob es funktioniert

**Öffne ein neues Terminalfenster**, damit es die PATH-Änderung des Assistenten übernimmt (Windows: ein neues PowerShell-Fenster). Dann:

```sh
agentiloop --version
```

Du solltest `agentiloop 0.0.6` sehen. Starte es jetzt ohne Optionen:

```sh
agentiloop
```

Es sollte direkt zur Eingabezeile gehen. Startet stattdessen wieder der Assistent, wurde der Schlüssel nicht gespeichert: Geh Schritt 3 noch einmal durch.

### 5. Deine erste Sitzung

Wechsle in einen Projektordner und starte die Vollbild-Oberfläche:

Fang mit einem neuen, leeren Testordner an, dann kannst du gefahrlos ausprobieren. Für ein echtes Projekt wechselst du stattdessen mit `cd` in dessen Ordner (zum Beispiel `cd ~/code/my-app`).

```sh
mkdir -p ~/agentiloop-test
cd ~/agentiloop-test
agentiloop --tui
```

Du nutzt **Ollama**? Der Assistent hat sich den Server und das gewählte Modell bereits gemerkt. Um zu einem anderen Modell zu wechseln, das du heruntergeladen hast, tipp in der Sitzung `/model` ein.

Jetzt tippst du einfach in normaler Sprache ein, was du willst, und drückst **Enter**. Ein paar gute erste Anfragen:

```text
erklär mir, was dieses Projekt macht
liste die Dateien in src auf und sag mir, welche der Einstiegspunkt ist
finde die TODO-Kommentare und fasse sie zusammen
füge dem Kommandozeilen-Parser eine Option --verbose hinzu
führ die Tests aus und behebe alles, was fehlschlägt
erstelle eine README.md für dieses Projekt
```

Bevor der Agent eine Datei ändert oder einen Befehl ausführt, fragt er dich. Drück **y** für ja, **n** für nein, **a**, um dieses Tool für die Sitzung immer zu erlauben, oder **Esc**, um den Schritt zu überspringen. Mit **Ctrl-C** beendest du das Programm. Beim nächsten Mal startet ein einfaches `agentiloop` genauso und macht mit deiner letzten Unterhaltung weiter.

Du willst nur eine Antwort ohne Chat? Übergib die Frage als Argument:

```sh
agentiloop "explain what this project does"
```

### Was kann er? (Tools)

Der Agent arbeitet mit zehn eingebauten Tools. Du rufst sie nicht selbst auf. Du beschreibst das Ziel, und der Agent wählt das Tool:

| Tool | Was es macht | Fragt vorher? |
|---|---|---|
| `read_file` | Liest eine Datei (mit Zeilennummern) | Nein |
| `list_dir` | Listet die Dateien in einem Ordner auf | Nein |
| `glob` | Findet Dateien nach Namensmuster (`*.rs`, `src/**/*.go`) | Nein |
| `grep` | Durchsucht Dateien mit einem regulären Ausdruck | Nein |
| `web_fetch` | Lädt eine Webseite oder API-Antwort als reinen Text | **Ja** |
| `todo_write` | Führt die eigene Checkliste des Modells für mehrstufige Aufgaben | Nein |
| `write_file` | Erstellt eine neue Datei oder überschreibt eine | **Ja** |
| `edit_file` | Ändert eine exakte Textstelle in einer Datei | **Ja** |
| `bash` | Führt einen Shell-Befehl aus, z. B. Tests, Builds oder `git` (`sh -c` auf Mac/Linux, `cmd /C` unter Windows) | **Ja** |
| `task` | Startet einen Sub-Agenten mit leerem Gespräch für eine abgeschlossene Aufgabe (erkunden, recherchieren) und bringt nur dessen Antwort zurück. Er hat dieselben Tools und stellt dieselben Fragen; eigene Sub-Agenten kann er nicht starten | Nein (seine eigenen Tool-Aufrufe fragen wie gewohnt) |

Du willst mehr Tools, etwa Websuche, Datenbanken oder GitHub? Füge MCP-Server hinzu; siehe [Tools mit MCP hinzufügen](#tools-mit-mcp-hinzufügen-optional).

### Der Hilfe-Befehl

`agentiloop --help` listet alle Optionen auf:

```text
$ agentiloop --help
AgentiLoop — a cross-platform agentic coding loop for your terminal.

Usage: agentiloop [OPTIONS] [PROMPT]...

Arguments:
  [PROMPT]...  One-shot prompt. If omitted, starts an interactive REPL. A lone `-` in it is replaced by
               what is piped on stdin: git diff | agentiloop "review this" -

Options:
  -p, --provider PROVIDER           Model backend (PROVIDER): anthropic, openai (OpenAI-compatible: OpenAI, Ollama,
                                    LM Studio, Groq, OpenRouter, … via OPENAI_BASE_URL), omlx (local
                                    oMLX server, http://localhost:8000/v1), or codex (ChatGPT plan via
                                    `codex login`). Defaults to the last one used, then auto-detected from
                                    which credentials are set. [env: AGENTILOOP_PROVIDER]
  -m, --model MODEL                 MODEL id to use. Defaults to the last model used with this provider
                                    (~/.agentiloop/settings.json), then the provider's default. [env: AGENTILOOP_MODEL]
      --yes                         Skip all permission prompts (dangerous; intended for CI). Never remembered. [env: AGENTILOOP_YES]
      --max-turns N                 Max provider round-trips (N) per prompt [default: last used, then 50]
      --max-retries N               Retries (N) of a provider call that fails transiently (rate limit, overloaded, 5xx,
                                    dropped connection) before the error is reported; 0 = never retry. [env: AGENTILOOP_MAX_RETRIES] (default 3)
      --compact-at TOKENS           Summarize the conversation once a request reaches this many input TOKENS (0 = never)
                                    [default: last used, then 80% of the model's context window] [env: AGENTILOOP_COMPACT_AT]
  -C, --cwd DIR                     Working directory (DIR) the agent operates in (defaults to cwd)
  -r, --resume ID                   Resume a saved session by ID (see /sessions)
  -c, --continue                    Resume the most recent session for this working directory
                                    (the default for interactive launches; kept for scripts)
      --new                         Start a new session instead of continuing the last one in this directory
      --tui                         Full-screen terminal UI instead of the line REPL. Remembered. [env: AGENTILOOP_TUI]
      --no-tui                      Use the line REPL even if the TUI was used last time
      --no-mcp                      Don't start MCP servers from ~/.agentiloop/mcp.json / ./.mcp.json. [env: AGENTILOOP_NO_MCP]
      --setup                       Run the first-time setup wizard (provider, key, model). Runs by itself on a
                                    machine with no credentials and no ~/.agentiloop.
      --reset                       Back to brand new: delete ~/.agentiloop (settings, env, history, sessions,
                                    mcp.json), the agentiloop block in your shell profile and Keychain items the
                                    wizard created. Asks first unless --yes.
      --allow-tool NAME             Run this tool without asking (repeatable or comma-separated; NAME* matches a prefix, e.g. mcp_*)
      --deny-tool NAME              Never run this tool NAME; the model is told it was denied (same name rules). Beats --allow-tool and --yes
      --plan                        Plan mode: tools that change something (write_file, edit_file, bash, task, mutating MCP
                                    tools) are switched off and the model is asked for a plan instead. Toggle with /plan. [env: AGENTILOOP_PLAN]
      --append-system-prompt TEXT   Extra TEXT added to the end of the system prompt for this run (never saved). [env: AGENTILOOP_APPEND_SYSTEM_PROMPT]
      --json                        One-shot only: print the answer as one JSON object on stdout (result, is_error, session_id,
                                    provider, model, usage) instead of streaming text. Tool activity still goes to stderr.
      --stream-json                 One-shot only: print every event as one JSON object per line on stdout as it happens
                                    (text_delta, text, tool_call, tool_result, turn, compacted, retry, done), then the same result
                                    object as --json with "type": "result". Nothing else is printed.
  -h, --help                        Print help
  -V, --version                     Print version
```

Tippe in einer Sitzung `/help`, um die Chat-Befehle zu sehen (`/model`, `/sessions`, `/resume`, `/clear`, `/compact`, `/mcp`, `/exit`). Die vollständige Referenz findest du unter [Alle Optionen](#alle-optionen) und [Befehle im Chat](#befehle-im-chat).

### Hängst du fest? Schnelle Lösungen

| Du siehst | Lösung |
|---|---|
| `command not found: agentiloop` | `~/.local/bin` ist nicht in deinem PATH. Öffne zuerst ein neues Terminalfenster; hilft das nicht, führ `~/.local/bin/agentiloop --setup` aus und sag ja, wenn er anbietet, es zum PATH hinzuzufügen. Unter Windows öffnest du ein neues PowerShell-Fenster |
| `Error: no provider credentials found` | Es ist kein Schlüssel gespeichert. Führ `agentiloop --setup` aus (Schritt 3) und prüf es dann mit Schritt 4 |
| macOS: *"agentiloop" cannot be opened* / *unidentified developer* | Das passiert, wenn du mit einem Browser statt mit `curl` heruntergeladen hast. Führ `xattr -d com.apple.quarantine ~/.local/bin/agentiloop` aus |
| Windows: *Windows protected your PC* | Klick auf **More info** → **Run anyway** |
| `401` / `invalid x-api-key` / Authentifizierungsfehler | Der Schlüssel ist falsch oder wurde mit Leerzeichen oder Anführungszeichen eingefügt. Kopier ihn erneut und führ `agentiloop --setup` aus, um ihn neu einzugeben |
| Ollama: Modell nicht gefunden | Führ `ollama list` aus und übergib den exakten Namen mit `-m` |
| Er benutzt immer noch ein altes Modell oder einen alten Anbieter | Er merkt sich deine letzte Wahl. Übergib `-p` / `-m`, um sie zu ändern, oder führe `agentiloop --reset` aus, um von vorn zu beginnen |

Kommst du immer noch nicht weiter? [Eröffne ein Issue](https://github.com/AgentiLoop/AgentiLoopGo/issues) und füge den Befehl und die Fehlermeldung ein. Wir helfen dir.

---

## Schnellstart

Drei Schritte: installieren, ein Modell verbinden, starten.

### Schritt 1: Installieren

**Herunterladen:** Hol dir das Archiv für deine Plattform unter [Releases](https://github.com/AgentiLoop/AgentiLoopGo/releases), entpacke es und leg `agentiloop` (`agentiloop.exe` unter Windows) in deinen PATH.

**Oder selbst bauen:** Wenn du Go noch nicht hast (1.25 oder neuer), installiere es über [go.dev/dl](https://go.dev/dl). Dann:

```sh
go install github.com/AgentiLoop/AgentiLoopGo/cmd/agentiloop@latest
```

oder aus einem Klon:

```sh
git clone https://github.com/AgentiLoop/AgentiLoopGo.git
cd AgentiLoopGo
go install ./cmd/agentiloop
```

Damit wird das Programm gebaut und ein `agentiloop`-Befehl in deinem PATH abgelegt, in `~/go/bin` (`%USERPROFILE%\go\bin` unter Windows). Ein C-Compiler ist nicht nötig.

> **Keine Installation?** Alles in diesem README funktioniert auch direkt im Repo-Ordner. Wo immer du `agentiloop <options>` siehst, tippst du stattdessen `go run ./cmd/agentiloop <options>`.

### Schritt 2: Ein Modell verbinden

AgentiLoop braucht ein Modell, mit dem es sprechen kann. **Du musst dafür keine Umgebungsvariablen setzen**: Führe einfach `agentiloop` aus, und der eingebaute Einrichtungsassistent stellt ein paar Fragen und speichert alles für dich. Die Schritt-für-Schritt-Anleitung mit einem kompletten Durchlauf findest du oben unter [3. Den Einrichtungsassistenten ausführen](#3-den-einrichtungsassistenten-ausführen).

<details>
<summary><b>Erweitert: den Schlüssel von Hand setzen</b> (überspring das, wenn der Assistent bei dir funktioniert hat)</summary>

Wenn du den Schlüssel lieber selbst verwalten willst oder AgentiLoop in einem Skript oder in CI läuft, wo niemand dem Assistenten antworten kann, setze eine dieser Umgebungsvariablen, und AgentiLoop benutzt sie, ohne zu fragen:

| Ich möchte nutzen… | Das setzen |
|---|---|
| **Claude** (Anthropic) | `export ANTHROPIC_API_KEY=sk-ant-...` |
| **OpenAI** | `export OPENAI_API_KEY=sk-...` |
| **Ollama, LM Studio** oder einen beliebigen OpenAI-kompatiblen Server | `export OPENAI_BASE_URL=http://localhost:11434/v1` (die Adresse deines Servers; lokale Server brauchen keinen Schlüssel) |
| **oMLX** (lokale Modelle auf Apple Silicon) | Normalerweise nichts. Starte oMLX und führ AgentiLoop dann mit `-p omlx` aus |

**Details zu oMLX.** Wenn oMLX auf demselben Mac läuft, liest AgentiLoop den Server-Port und den API-Schlüssel aus der eigenen Einstellungsdatei von oMLX (`~/.omlx/settings.json`). Läuft oMLX auf einem anderen Rechner oder willst du diese Einstellungen überschreiben:

```sh
export OMLX_BASE_URL=http://192.168.1.50:7777/v1   # die Adresse des oMLX-Servers (oder OMLX_PORT=7777 für localhost)
export OMLX_API_KEY=...                            # der API-Schlüssel aus den oMLX-Einstellungen
```

Wenn in oMLX die Prüfung des API-Schlüssels ausgeschaltet ist, brauchst du keinen Schlüssel.

Ein `export` gilt nur für den Terminal-Tab, in dem du ihn eingegeben hast. Damit er dauerhaft gilt, würdest du die Zeile deinem Shell-Profil hinzufügen (`~/.zshrc` auf macOS), und genau das erledigt die Option **„Also add it to ~/.zshrc"** des Assistenten für dich. Ebenso ist die Option **„macOS Keychain"** des Assistenten die automatische Variante hiervon:

```sh
# einmalig: den Schlüssel im Schlüsselbund speichern
security add-generic-password -a "$USER" -s ANTHROPIC_API_KEY -w "sk-ant-..."

# in ~/.zshrc: ihn für jedes neue Terminal laden
export ANTHROPIC_API_KEY="$(security find-generic-password -a "$USER" -s ANTHROPIC_API_KEY -w 2>/dev/null)"
```

</details>

### Schritt 3: Starten

Wechsle in das Projekt, an dem du arbeiten willst, und starte AgentiLoop:

```sh
cd ~/my-project
agentiloop --tui
```

`--tui` öffnet die Vollbild-Oberfläche, die wir empfehlen. Tipp ein, was du willst, z. B. *„finde heraus, wo die Konfigurationsdatei geladen wird, und füge eine Option --verbose hinzu"*, und drück Enter.

Du siehst die Antworten des Agenten, jedes Tool, das er benutzt (🔧), und jedes Ergebnis (✓ oder ✖). Der Kasten unten zeigt, was er gerade tut, zum Beispiel ` ✻ Thinking...  12s `. Bevor er eine Datei schreibt oder einen Befehl ausführt, fragt er dich:

- **y**: ja, dieses Mal
- **n**: nein
- **a**: dieses Tool für den Rest der Sitzung immer erlauben
- **Esc**: diesen Schritt überspringen, aber weitermachen

---

## Drei Arten, es zu benutzen

| Modus | Befehl | Gut für |
|---|---|---|
| **TUI** (Vollbild) | `agentiloop --tui` | Den Alltag: scrollbarer Verlauf, Live-Status, klickbare Links |
| **Chat** (Zeile für Zeile) | `agentiloop` | Einfache Terminals, oder wenn du reinen Text bevorzugst |
| **Einmalig** | `agentiloop "explain this project"` | Eine einzelne Frage: Er antwortet und beendet sich dann. Praktisch in Skripten |
| **Per Pipe** | `git diff \| agentiloop "review this" -` | Text per Pipe übergeben und `-` im Prompt setzen: Es wird durch den Pipe-Inhalt ersetzt. Praktisch für Diffs und Logs |

Tasten in der TUI: **Enter** sendet · **↑ / ↓** blättern durch frühere Anfragen · **PgUp / PgDn** oder das Mausrad scrollen · **Ctrl-F** zeigt oder versteckt das Fenster *geänderte Dateien* (das Mausrad darüber scrollt das Fenster; am linken Rand ziehen ändert die Breite) · **Esc** bricht die laufende Anfrage ab (die Sitzung bleibt erhalten) · **Ctrl-U** löscht die Zeile · **Ctrl-C** beendet.

---

## Dateien mit @ erwähnen

Tippe irgendwo im Prompt `@` gefolgt von einem Pfad, und AgentiLoop hängt diese Datei an das an, was das Modell bekommt: `erkläre @src/main.rs` schickt deinen Satz plus den Text der Datei mit Zeilennummern. Ein Ordner (`@src`) hängt seine Liste an. Pfade sind relativ zum Projektordner (oder absolut, oder `~/…`); ein Wort, das nichts benennt, bleibt unverändert, E-Mail-Adressen sind also sicher. Dateien werden bei 64 KB abgeschnitten, Ordner bei 200 Einträgen, und eine 📎-Zeile zeigt, was angehängt wurde. Funktioniert in der TUI, im Chat und bei Einmal-Prompts.


---

## Shell-Befehle mit ! ausführen

Beginne eine Zeile mit `!`, und AgentiLoop führt sie als Shell-Befehl aus, statt sie an das Modell zu schicken: `!git status`, `!cargo test`, `!ls src`. Du siehst die Ausgabe sofort, und sie wird der Unterhaltung hinzugefügt – du kannst also mit „behebe diese Testfehler“ weitermachen, und das Modell kennt sie schon. Der Befehl läuft im Projektordner mit derselben Shell, 120 s Timeout und 30 KB Ausgabelimit wie das `bash`-Tool des Modells. Funktioniert in der TUI und im Chat.

---

## Etwas mit # merken

Beginne eine Zeile mit `# `, und AgentiLoop speichert den Rest als Notiz in der `AGENTS.md` des Projekts, statt ihn an das Modell zu schicken: `# vor jedem Commit cargo fmt ausführen`, `# der API-Client liegt in src/net`. Die Notiz wird als Aufzählungspunkt unter einer Überschrift `## Notes` eingetragen (gibt es die Datei nicht, wird sie aus der `/init`-Vorlage erzeugt; eine vorhandene `CLAUDE.md` wird stattdessen verwendet). Da `AGENTS.md` in den System-Prompt wandert, befolgt das Modell die Notiz ab der nächsten Anfrage und in jeder späteren Sitzung. Funktioniert in der TUI und im Chat.
---

## Er merkt sich deine Einstellungen

Du gibst deine Optionen nur einmal ein. AgentiLoop speichert, wie du es gestartet hast, sodass beim nächsten Mal ein einfaches `agentiloop` genauso startet:

```sh
agentiloop -p anthropic --tui    # beim ersten Mal: Anbieter und TUI wählen
agentiloop                       # ab jetzt: gleicher Anbieter, gleiches Modell, TUI und deine letzte Unterhaltung
```

Was er sich merkt:

- **Anbieter** (`-p`) und **TUI an/aus** (`--tui` / `--no-tui`)
- **Modell**: das zuletzt benutzte, getrennt für jeden Anbieter. Wechselst du zu einem Anbieter zurück, kommt auch sein Modell zurück.
- **Limits**: `--max-turns` und `--compact-at`
- **Deine Unterhaltung**: Er macht mit der letzten Unterhaltung im aktuellen Ordner weiter, sofern diese denselben Anbieter benutzt hat. Die früheren Nachrichten werden wieder auf dem Bildschirm angezeigt, sodass du zurückscrollen und sehen kannst, wo du aufgehört hast

Um etwas zu ändern, übergib die neue Option. Sie gilt sofort und wird ab dann gemerkt:

```sh
agentiloop -p omlx        # zu oMLX wechseln (sein zuletzt benutztes Modell kommt auch zurück)
agentiloop -m <model>     # Modell wechseln
agentiloop --no-tui       # zurück zum zeilenweisen Chat
agentiloop --new          # eine neue Unterhaltung beginnen (die alte bleibt gespeichert)
```

Manche Dinge werden absichtlich **nie** gemerkt:

- `--yes`: Das Überspringen der Berechtigungsabfragen muss jedes Mal eine bewusste Entscheidung sein
- `--no-mcp`, `-C` und einmalige Anfragen
- API-Schlüssel: Die liegen in `~/.agentiloop/env` (vom Assistenten geschrieben) oder in deiner Shell-Umgebung, nie in `settings.json`

Um alles zu vergessen, führe `agentiloop --reset` aus.

---

## Alle Optionen

Jede Option lässt sich auch über eine Umgebungsvariable setzen, die in der zweiten Spalte steht. Eine Option, die du eintippst, hat immer Vorrang vor einem gemerkten Wert.

| Option | Umgebungsvariable | Was sie macht |
|---|---|---|
| `-p, --provider <name>` | `AGENTILOOP_PROVIDER` | `anthropic`, `openai` oder `omlx`. Wenn du keinen angibst, nimmt AgentiLoop den letzten oder erkennt ihn anhand deiner Schlüssel (zuerst Anthropic, dann OpenAI, dann oMLX) |
| `-m, --model <id>` | `AGENTILOOP_MODEL` | Welches Modell benutzt wird |
| `--tui` / `--no-tui` | `AGENTILOOP_TUI` | Vollbild-Oberfläche an / aus |
| `--new` | | Beginnt eine neue Unterhaltung, statt weiterzumachen |
| `-c, --continue` | | Macht hier mit der letzten Unterhaltung weiter (ist schon Standard) |
| `-r, --resume <id>` | | Öffnet eine bestimmte Unterhaltung erneut (IDs findest du mit `/sessions`) |
| `-C, --cwd <folder>` | | Arbeitet in einem anderen Ordner als dem, in dem du gerade bist |
| `--yes` | `AGENTILOOP_YES` | Fragt nicht, bevor Tools ausgeführt werden. ⚠️ Nur für vertrauenswürdige, automatisierte Nutzung |
| `--allow-tool <name>` | | Führt dieses Tool ohne Nachfrage aus; Option wiederholen oder Kommas nutzen. `mcp_*` passt auf ein Präfix. Gut für CI ohne `--yes` |
| `--deny-tool <name>` | | Führt dieses Tool nie aus: Das Modell erfährt, dass es abgelehnt wurde. Hat Vorrang vor `--allow-tool` und `--yes` |
| `--plan` | `AGENTILOOP_PLAN` | Planmodus: startet mit abgeschalteten Tools, die etwas verändern (`write_file`, `edit_file`, `bash`, `task`, MCP-Tools, die nicht nur lesen). Das Modell liest und sucht und antwortet dann mit einem nummerierten Plan, statt die Arbeit zu machen. `/plan` schaltet ihn während einer Sitzung aus (oder ein) |
| `--no-mcp` | `AGENTILOOP_NO_MCP` | Startet keine MCP-Server (siehe unten) |
| `--append-system-prompt <text>` | `AGENTILOOP_APPEND_SYSTEM_PROMPT` | Zusätzlicher Text am Ende des System-Prompts für diesen Lauf (wird nicht gespeichert) |
| `--json` | | Bei einer einmaligen Anfrage: gibt die Antwort als ein JSON-Objekt (`result`, `is_error`, `session_id`, `provider`, `model`, `usage`) auf stdout aus. Tool-Aktivität bleibt auf stderr |
| `--stream-json` | | Bei einer einmaligen Anfrage: gibt jedes Ereignis sofort als ein JSON-Objekt pro Zeile auf stdout aus (`text_delta`, `text`, `tool_call`, `tool_result`, `turn`, `compacted`, `retry`, `done`), danach dasselbe Ergebnisobjekt wie `--json` mit `"type": "result"`. Sonst wird nichts ausgegeben. Für Editoren und Skripte, die den Fortschritt sehen wollen |
| `--setup` | | Startet den Einrichtungsassistenten erneut (Anbieter, Schlüssel, Modell). Zusammen mit `--tui` läuft er in der Vollbild-Oberfläche |
| `--reset` | | Zurück auf Anfang: löscht `~/.agentiloop`, den agentiloop-Block in deinem Shell-Profil und die vom Assistenten angelegten Schlüsselbund-Einträge (unter Windows: die von ihm gesetzten Benutzer-Umgebungsvariablen). Von Hand geschriebene `export`-Zeilen werden nur auskommentiert, und nur wenn du zustimmst. Mit `--yes` entfallen die Rückfragen |
| `--max-turns <n>` | | Maximale Anzahl Schritte, die der Agent pro Anfrage machen darf (Standard 50) |
| `--max-retries <n>` | `AGENTILOOP_MAX_RETRIES` | Wie oft eine Anfrage, die aus einem vorübergehenden Grund fehlschlägt (Rate-Limit, überlastet, Serverfehler, abgebrochene Verbindung), erneut gesendet wird, bevor du den Fehler siehst: nach 1 s, 2 s, 4 s… (Standard 3, `0` = nie). Eine Zeile `⟳ retry 1/3` zeigt jeden Versuch. Nicht mehr, sobald die Antwort schon gestreamt wird |
| `--compact-at <tokens>` | `AGENTILOOP_COMPACT_AT` | Wann eine lange Unterhaltung zusammengefasst wird (Standard 150000, `0` = nie) |
| `-h` / `-V` | | Hilfe / Version |

Ein paar Beispiele:

```sh
agentiloop -p openai -m gpt-4o-mini "summarize this repo"    # eine Frage mit einem bestimmten Modell
agentiloop -C ../other-repo --tui                            # an einem anderen Projekt arbeiten
agentiloop --yes "run the tests and fix any failures"        # unbeaufsichtigt, ohne Rückfragen
```

**Welches Modell wird benutzt?** Das erste, das zutrifft, gewinnt:

1. `-m` auf der Kommandozeile
2. das Modell der Unterhaltung, die du fortsetzt
3. das letzte Modell, das du mit diesem Anbieter benutzt hast
4. der Standard des Anbieters: `claude-sonnet-5` für Anthropic, `gpt-4o-mini` für OpenAI oder das erste Modell, das oMLX anbietet

---

## Befehle im Chat

Tipp diese an der Eingabeaufforderung ein, in der TUI oder im Chat:

| Befehl | Was er macht |
|---|---|
| `!<Befehl>` | Führt einen Shell-Befehl direkt aus und fügt die Ausgabe der Unterhaltung hinzu (siehe [Shell-Befehle mit ! ausführen](#shell-befehle-mit--ausführen)) |
| `# <Notiz>` | Speichert die Notiz in der `AGENTS.md` dieses Projekts unter `## Notes` (siehe [Etwas mit # merken](#etwas-mit--merken)) |
| `/model` | Zeigt die verfügbaren Modelle. `/model 3` oder `/model <id>` wechselt (und wird gemerkt) |
| `/sessions` | Listet deine gespeicherten Unterhaltungen auf, die neueste zuerst |
| `/resume <n or id>` | Öffnet eine davon erneut |
| `/clear` | Leert die Unterhaltung und beginnt eine neue |
| `/undo` | Macht die Dateiänderungen des Agenten für deinen letzten Prompt rückgängig (Änderungen durch `bash`-Befehle nicht) |
| `/todos` | Zeigt die aktuelle Aufgaben-Checkliste des Modells |
| `/diff` | Zeigt, was sich im Git-Arbeitsverzeichnis geändert hat (Status plus Diff, nach 200 Zeilen gekürzt) |
| `/commands` | Eigene Befehle: Jede `.agentiloop/commands/<name>.md` (Projekt) oder `~/.agentiloop/commands/<name>.md` wird zu `/<name>` und sendet die Datei als Prompt (`$ARGUMENTS` wird durch das Folgende ersetzt, `$1`–`$9` durch die einzelnen Wörter). Zeigt die Liste |
| `/hooks` | Zeigt die aus `.agentiloop/hooks.json` geladenen Hooks (siehe [Hooks](#hooks-eigene-befehle-rund-um-tool-aufrufe)) |
| `/plan [on\|off]` | Planmodus ein oder aus (ohne Argument: umschalten). Solange er an ist, verweigern Tools, die etwas verändern, die Ausführung, und das Modell antwortet mit einem Plan; die TUI zeigt **PLAN** in der Statuszeile |
| `/init` | Erstellt eine `AGENTS.md`-Vorlage für das aktuelle Projekt (überschreibt nie) |
| `/export [file]` | Speichert die Unterhaltung als Markdown-Datei (`/export notes.md` oder ein Standardname im Projektordner) |
| `/compact` | Fasst die Unterhaltung jetzt zusammen, um Platz zu schaffen |
| `/usage` | Zeigt die seit dem Start verbrauchten Tokens und wie voll der Kontext ist |
| `/status` | Wo du stehst: Ordner, Anbieter, Modell und seine Limits, Sitzung, Planmodus, Tools (und wie viele davon von MCP kommen), Hooks, Instruktionsdateien, Einstellungen und Token-Verbrauch |
| `/mcp` | Zeigt die verbundenen MCP-Server und ihre Tools |
| `/help` | Listet diese Befehle auf |
| `/exit` | Beenden |

---

## Lange Unterhaltungen

Modelle können nur eine begrenzte Menge auf einmal lesen. Wenn eine Unterhaltung groß wird (standardmäßig, wenn eine Anfrage 150.000 Tokens erreicht), bittet AgentiLoop das Modell, das Bisherige zusammenzufassen, und macht auf Basis der Zusammenfassung weiter. Du siehst dann einen 📦-Hinweis. `/compact` macht das auf Wunsch, und `--compact-at 0` schaltet es ab.

**Prompt-Caching (Anthropic).** Anfragen an Anthropic markieren den System-Prompt, die Tools und die letzte Nachricht als cachebar, sodass die nächste Anfrage im selben Gespräch den Großteil des Prompts wiederverwendet, statt ihn erneut zu bezahlen (der gecachte Teil kostet etwa ein Zehntel, und die Antwort beginnt früher). Nichts zu konfigurieren. `/usage` zeigt, wie viele Tokens aus dem Cache gelesen und in ihn geschrieben wurden, und `--json` meldet sie als `cache_read_tokens` und `cache_write_tokens`.

---

## Projektanweisungen

Lege eine Datei `AGENTS.md` (oder `CLAUDE.md`) in dein Projekt, und AgentiLoop liest sie beim Start und befolgt sie: Build-Befehle, Code-Stil, Dinge, die zu vermeiden sind. Gesucht wird im aktuellen Ordner und dann in den übergeordneten Ordnern bis zum Projektstamm (dem Ordner mit `.git`). Eine persönliche `~/.agentiloop/AGENTS.md` gilt für jedes Projekt; die Datei des Projekts kommt danach und hat Vorrang. Dateien werden bei 32 KB abgeschnitten. Eine Zeile `instructions: <Pfad>` zeigt, welche Dateien geladen wurden. Eine Zeile, die nur `@pfad` enthält (z. B. `@docs/style.md`), wird durch den Text dieser Datei ersetzt, relativ zur erwähnenden Datei. Importe können drei Ebenen tief verschachtelt sein; fehlende Dateien, Schleifen und Zeilen in Codeblöcken bleiben unverändert.

---

## Hooks: eigene Befehle rund um Tool-Aufrufe

Ein Hook ist ein Shell-Befehl, den AgentiLoop für dich an einer festen Stelle ausführt: bevor ein Tool läuft (`PreToolUse`), nachdem es gelaufen ist (`PostToolUse`) oder wenn der Agent eine Anfrage abgeschlossen hat (`Stop`). Lege sie in `.agentiloop/hooks.json` in deinem Projekt ab, oder in `~/.agentiloop/hooks.json` für alle Projekte (beide werden geladen):

```json
{
  "hooks": {
    "PreToolUse":  [{ "matcher": "bash", "command": "sh .agentiloop/check-command.sh" }],
    "PostToolUse": [{ "matcher": "write_file,edit_file", "command": "cargo fmt" }],
    "Stop":        [{ "command": "osascript -e 'display notification \"done\" with title \"AgentiLoop\"'" }]
  }
}
```

- `matcher` legt fest, für welche Tools der Hook gilt, mit denselben Regeln wie `--allow-tool` (Namen, `mcp_*`-Präfixe, `*`). Lass es weg, damit er für alle Tools gilt. `Stop`-Hooks ignorieren es.
- Der Befehl läuft mit `sh -c` (`cmd /C` unter Windows) im Projektordner. Er bekommt ein JSON-Objekt auf stdin: `event`, `cwd`, `tool` und `input`; `PostToolUse` ergänzt `output` und `is_error`, `Stop` ergänzt `stop_reason`. `AGENTILOOP_HOOK_EVENT` und `AGENTILOOP_TOOL` werden als Umgebungsvariablen gesetzt.
- **Exit-Code 2 spricht mit dem Modell.** Ein `PreToolUse`-Hook, der mit 2 endet, blockiert den Aufruf, und was er auf stderr ausgegeben hat, geht als Fehler an das Modell. Bei einem `PostToolUse`-Hook mit Exit-Code 2 wird seine stderr-Ausgabe an das Tool-Ergebnis angehängt. Jeder andere Exit-Code wird ignoriert (ein Wert ungleich null wird protokolliert). Ein Hook wird nach 60 Sekunden beendet.
- `/hooks` listet, was geladen wurde. Eine kaputte Datei wird beim Start gemeldet und übersprungen.

Dieser `PreToolUse`-Hook verhindert zum Beispiel, dass `bash` ein `git push` ausführt:

```sh
#!/bin/sh
# .agentiloop/check-command.sh — stdin ist das JSON des Aufrufs
if grep -q 'git push' ; then echo "git push ist vom Agenten aus nicht erlaubt" >&2; exit 2; fi
```

---

## Tools mit MCP hinzufügen (optional)

[MCP](https://modelcontextprotocol.io)-Server geben dem Agenten zusätzliche Tools, etwa Datenbankzugriff, Websuche oder deine eigenen Skripte. Führ sie in einer JSON-Datei auf:

- `~/.agentiloop/mcp.json`: in jedem Projekt verfügbar
- `.mcp.json` in einem Projektordner: nur in diesem Projekt. Kommt ein Name in beiden Dateien vor, gewinnt diese hier.

Das Format ist dasselbe, das auch Claude Code, Claude Desktop und Agent! benutzen, du kannst also vorhandene Konfigurationen kopieren:

```json
{ "mcpServers": {
    "Local":  { "command": "my-mcp-server", "args": ["--flag"], "env": { "API_KEY": "${MY_KEY}" } },
    "Remote": { "url": "https://example.com/mcp", "headers": { "Authorization": "Bearer ${TOKEN}" } }
} }
```

So funktioniert es:

- **Zwei Arten von Servern.** Ein Server mit `command` ist ein lokales Programm, das AgentiLoop für dich startet. Ein Server mit `url` wird über HTTP erreicht. Sowohl neuere „Streamable HTTP"- als auch ältere „SSE"-Server funktionieren; eine URL, die auf `/sse` endet (oder `"transport": "sse"`), wählt den älteren Stil.
- **Tool-Namen.** Jedes Server-Tool erscheint für den Agenten als `mcp_<server>_<tool>`, z. B. `mcp_Local_search`.
- **Geheimnisse.** `${VAR}` (oder `${VAR:-default}`) wird aus deiner Umgebung befüllt, Schlüssel müssen also nicht in der Datei stehen.
- **Berechtigungen.** MCP-Tools fragen wie jedes andere Tool um Erlaubnis, außer der Server markiert ein Tool als schreibgeschützt.
- **Prompts.** Gespeicherte Prompts eines Servers werden zu Slash-Befehlen namens `/mcp__<server>__<prompt>`, z. B. `/mcp__Local__summarize irgendein Text`. Wörter nach dem Befehl füllen die Argumente des Prompts der Reihe nach (oder `name=wert`); der vom Server gelieferte Text wird als dein Prompt gesendet. `/mcp` listet sie auf.
- **Server abschalten.** Füge `"disabled": true` hinzu, um einen Server zu überspringen, oder starte mit `--no-mcp`, um alle zu überspringen.
- **Sicherheit.** Unverschlüsseltes `http://` ist nur für localhost erlaubt; entfernte Server brauchen `https://`.

Tipp `/mcp`, um zu sehen, welche Server verbunden sind, welche Tools sie haben und ob es Fehler gibt.

---

## Wo alles gespeichert wird

Alles liegt in `~/.agentiloop/`. Setz `AGENTILOOP_HOME`, um einen anderen Ordner zu benutzen, z. B. ein separates Testprofil.

| Datei | Was drinsteht |
|---|---|
| `settings.json` | Gemerkter Anbieter, Modelle und Optionen sowie was der Assistent an anderer Stelle geschrieben hat |
| `env` | Dein Schlüssel, vom Assistenten geschrieben (`KEY=value`, Dateimodus 600). Wird beim Start geladen; ein `export` in deiner Shell hat Vorrang |
| `sessions/` | Deine Unterhaltungen, je eine Datei |
| `mcp.json` | Deine MCP-Server |
| `hooks.json` | Hooks für alle Projekte (die `.agentiloop/hooks.json` eines Projekts kommt dazu) |
| `history.txt` | Anfragen, die du eingetippt hast (für ↑ / ↓) |

---

## Weitere Umgebungsvariablen

Die brauchst du selten:

| Variable | Zweck |
|---|---|
| `ANTHROPIC_BASE_URL` | Schickt Anthropic-Anfragen an einen Proxy oder kompatiblen Server |
| `ANTHROPIC_OAUTH_TOKEN` | Alternative zu `ANTHROPIC_API_KEY` für ein Claude-Code-Token |
| `OMLX_BASE_URL`, `OMLX_PORT`, `OMLX_API_KEY` | Adresse und Schlüssel des oMLX-Servers. Sie überschreiben `~/.omlx/settings.json`, das standardmäßig gelesen wird (Port 8000, wenn keins von beiden gesetzt ist) |
| `AGENTILOOP_LOG=debug` (oder `RUST_LOG=debug`) | Zeigt Debug-Logs, einschließlich des Token-Verbrauchs pro Anfrage |

---

## Für Entwickler

### Bauen und testen

```sh
go build -o agentiloop ./cmd/agentiloop   # → ./agentiloop
go test ./...                             # läuft offline, keine API-Schlüssel nötig
```

Cross-Kompilieren braucht nichts Zusätzliches, zum Beispiel `GOOS=windows GOARCH=amd64 go build ./cmd/agentiloop`.

Die Tests greifen nicht aufs Netzwerk zu. Die Agent-Schleife läuft gegen ein geskriptetes Fake-Modell und die Streaming-Parser gegen einen lokalen Testserver. Die TUI wird auf dem simulierten Bildschirm von tcell gezeichnet. Der MCP-Client wird gegen einen mitgelieferten Beispielserver über alle drei Verbindungsarten (stdio, HTTP, SSE) getestet. Du kannst diesen Server auch selbst starten, um MCP von Hand auszuprobieren:

```sh
go run ./examples/mcp-example-server --http 8791   # oder --sse 8792, oder --stdio
```

### Wie der Code aufgebaut ist

Das Projekt ist in fünf Packages aufgeteilt, und jedes baut auf den vorherigen auf:

| Package | Was drinsteckt |
|---|---|
| `core` | Das Herzstück: die Agent-Schleife, Nachrichten, die Tool- und Anbieter-Schnittstellen, Berechtigungen, Sitzungen, Zusammenfassungen |
| `provider` | Spricht mit den Modellen: Anthropic, OpenAI-kompatible Server, oMLX |
| `tools` | Eingebaute Tools: `read_file`, `write_file`, `edit_file`, `list_dir`, `glob`, `grep`, `web_fetch`, `todo_write`, `bash` |
| `mcp` | Der MCP-Client, portiert von AgentMCP aus dem Swift-Code von Agent! |
| `cmd/agentiloop` | Das Programm `agentiloop`: Optionen, Chat, TUI, Einstellungen |

`core`, `provider`, `tools` und `mcp` verwenden nur die Go-Standardbibliothek und lassen sich deshalb in andere Programme einbetten.

### Abhängigkeiten

Alles, was nicht zur TUI oder zur Kommandozeile gehört, nutzt die Standardbibliothek. Das Programm `agentiloop` fügt hinzu:

| Modul | Wofür |
|---|---|
| `github.com/spf13/pflag` | Kommandozeilenoptionen |
| `github.com/peterh/liner` | Der zeilenweise Chat |
| `github.com/gdamore/tcell/v2`, `github.com/mattn/go-runewidth` | Die TUI |
| `github.com/yuin/goldmark`, `github.com/alecthomas/chroma/v2` | Markdown und Syntaxhervorhebung |

---

## Roadmap

- [x] Gestreamte Antworten
- [x] OpenAI-kompatible Anbieter
- [x] Zusammenfassen langer Unterhaltungen
- [x] Gespeicherte Unterhaltungen
- [x] Vollbild-TUI
- [x] MCP-Client
- [x] Hooks
- [ ] Was kommt als Nächstes (What's NeXT)?

## Lizenz

[PolyForm Noncommercial 1.0.0](LICENSE). Du darfst diese Software für persönliche und nichtkommerzielle Zwecke nutzen, ändern und weitergeben. Die kommerzielle Nutzung, einschließlich des Erstellens oder Verkaufens kommerzieller Versionen, ist AgentiLoop vorbehalten. Wende dich für eine kommerzielle Lizenz an AgentiLoop.

---

<a href="https://fluxionai.space/register?source=github&campaign=github-sidrune-agentiloop-agent&promo=SDRAGENTLOOP"><img src="docs/sponsors/sidrune-ai-silver-ad_de.svg" width="900" alt="Sidrune AI, Silver-Sponsor: Eine API für GPT, Claude und andere führende KI-Modelle. Registriere dich und erhalte $3 API-Guthaben." /></a>

---

**AgentiLoop:** [agentiloop.ai](https://agentiloop.ai/)

Copyright © 2026 AgentiLoop.ai, a Logos InkPen LLC company. All rights reserved.
