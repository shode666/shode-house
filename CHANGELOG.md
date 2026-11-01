# Changelog

All notable changes to shode-house plugin.
Format: [Keep a Changelog](https://keepachangelog.com/en/1.1.0/) + [Semver](https://semver.org/).

## [Unreleased]

## [4.1.0] — 2026-11-01

### Added

- First-class portable Codex packaging: the generated root `plugin.json`, compatibility `.codex-plugin` manifest, `ask` coordinator and Python lifecycle hooks preserve the six role contracts while requiring genuine separate workers for test authoring, implementation and independent review. Codex shell, model, tool and scope isolation remains advisory; no live installed-host qualification is claimed.
- A separately frozen battery 4.0.2 protocol with a coordinated logger and crash-recovery coverage. The historical 4.0.1 runner, manifest and baseline remain byte-pinned and its results are never mixed with 4.0.2 evidence.

### Changed

- Durable workflow validation now binds `test_ready`, rework and mutation records to authoritative session identity, actor ownership, phase and payload/state correlation. Missing, altered and unknown required fields fail closed, and the test author and implementer must be distinct sessions.
- Claude Code and Codex package metadata now share version 4.1.0 and the canonical `shode666/shode-house` repository URL. This is a MINOR release because first-class portable Codex packaging adds backward-compatible public functionality after 4.0.1. Generated host trees remain host-specific: Claude Code has native agents and router style; Codex coordinates only where separate-worker delegation exists.

### Fixed

- Reliability fixtures now include valid authoritative `test_ready` evidence and distinct test-author/implementer sessions, matching the production workflow contract without weakening its guards.

### Validation status

- Static, unit, integration, freeze, generated-tree and packaging gates passed for the release bytes. Cowork drag-drop validation passed for the exact package SHA recorded in the release evidence. Live Claude/Codex behavioral acceptance remains a separate gate and is not implied by repository or package tests.

## [4.0.1] — 2026-10-11 (released by the maintainer after the Standards / Spec / Security review on one fixed point; the Cowork drag-drop test, W11, the routing-probe battery and the 4.0.1 scenarios have not been run — see Known limitations)

### Breaking — 18 agent types become 6; the old ids no longer resolve

The 4.0.1 number was fixed by the maintainer. Removing public spawn targets is a breaking change under SemVer (the requirements record asks for a MAJOR bump in that case): anyone who spawns `shode-house:<old-id>` gets a failed spawn, not an alias. There are no stub agent files and the host documents no alias mechanism.

| 4.0.0 id | 4.0.1 |
|---|---|
| product-manager | `plan`, discover mode |
| business-analyst | `plan`, requirements mode; the spec axis is a fresh `plan` spawn that did not write the acceptance |
| solution-architect | `plan`, architecture mode, router-passed `model: "fable"` |
| staff-engineer | `build`, staff-grade brief, router-passed `model: "fable"` (no network on `build`; radar research is a `plan` brief) |
| developer | `build` |
| ux-ui-designer | `design` |
| code-reviewer | `verify`, standards axis |
| qa-engineer | `verify`, runtime axis |
| security-engineer | `secure` |
| devops-engineer | `operate`, deploy mode |
| sre-engineer | `operate`, reliability mode |
| fintech-expert, sap-expert, trading-expert, insurance-expert | `plan` + `references/domain/<domain>.md` loaded through `domain-core`, router-passed `model: "opus"` |
| erp-expert, booking-expert, ecommerce-expert | the same `plan` + reference at the type default (sonnet); router-passed `model: "opus"` only for high-stakes work, reason recorded in the dispatch |

The one table is `skills/discipline/shode-house-routing/ownership.md` § Formerly (3.x persona and 4.0.0 id → 4.0.1 type); the router answers a retired id from it and never spawns it or retries it as a bare name. `scripts/permission-check.sh` answers UNKNOWN (exit 2) for each retired id. Collision-scan does not guard retired ids: documented, not covered.

### Changed

- **6 agent types** `plan`, `build`, `verify`, `operate`, `secure`, `design` replace the 18 (`agents/*.md`); tools never exceed the widest replaced role (`plan` no Bash, `build`/`verify`/`operate` no network, `design` no Bash; `secure` keeps WebSearch). `secure` and `design` keep `model: claude-fable-5` (host-pinned); `plan` and `build` get `fable` / `opus` per dispatch from the router, which records requested and served model in the artifact (a domain or security axis return without it is BLOCKED). Role detail moved to the lazy runbooks (renamed `plan-*`, `build-*`, `verify-*`, `operate-*`, `secure-method`, `design-*` under `references/runbooks/`).
- **Domain experts are references**, not agents or skills: `references/domain/{fintech,erp,sap,trading,insurance,booking,ecommerce}.md` (the former catalogues plus the former body rules), loaded by a `plan` spawn through `domain-core`; the vendor/regulation red lines that are root-only rules moved to `skills/discipline/domain-core/SKILL.md` § Domain red lines. The skill count stays 20.
- **Router style**: 6-type routing table (every 4.0.0 outcome is still a row), review card with six axis lines (`verify` serves standards and runtime, `plan` serves spec and domain, each a separate named spawn; the spec spawn is never the one that wrote the AC), Phase 1c → `shode-house:secure`, business rule → domain-loaded `plan` before any implementer, served-model evidence, no bare-name fallback, Formerly pointer. Floor block and R0 / pre-deploy text unchanged.
- **Hook**: `hooks/scripts/guard-scope-write.sh` keys the ux path set on `shode-house:design`; every agent-type value it branches on is listed once (`# agent-type-branch:`) and CI asserts each is a live type (SEC-1/SEC-2); a test shows a stale constant switches the control off.
- **Registries** (`references/security/*.json`, `references/registry/*.json`) regenerated to the 6 ids; owners/requires may read `plan:<domain>`. `operate` carries a recorded `_widening` (the sre reliability work now sits in a type whose policy grants deploy, deploy_prod and write_code; the `pre-deploy-*` gates and the R0 floor line are unchanged); `build` records the staff-engineer write_code widening. Accepted with conditions (user decision U30): R0 still needs the user's confirmation of the specific action, `pre-deploy-*` is unchanged, a reliability (SRE) brief may use deploy or prod actions only when its delegation explicitly authorises them (`agents/operate.md`, pinned by `tests/test_core_roster.py`), both `_widening` records and their regression tests stay, and no further widening this round.
- **Version 4.0.1** in `plugin.json`, `marketplace.json`, the `AGENTS.md` Repo Invariants heading and the README; the `## [4.0.0]` heading now carries its release date.

### Added — gates

- `tests/test_core_roster.py` (CI #27 always-required loop, `make validate`): roster == the 6 approved types, models, floor in every body and the style, registries name only live types, `permission-check.sh` UNKNOWN for each retired id, every 4.0.0 routing outcome and non-table capability maps to a live type (`tests/fixtures/routing_inventory.json`), the review card has the six axes as separate spawns, hook-key liveness with a behavioural DENY test, the served-model / no-bare-fallback sentences.
- `tests/test_agent_tools_pin.py`: per-type tool ceilings against the 4.0.0 roles; `tests/test_tombstone.py` + `tests/test_skill_names.py`: the 18 retired ids have no file, no manifest entry and no spawn form anywhere in shipped text.
- `eval/scenarios/core-4.0.1/` (frozen core set for the 6 types, derived from the frozen `core-4.0` by one stated rule, its own manifest) and `routing-4.0.1.json` (E16 domain rule before build, E17 retired id named by the user, E18 review axes stay separate, E19 served-model record for an upward `model` override, E20 spec-axis seeded violations) with `probes-4.0.1.json` + `check-probes.py` (thresholds pre-registered and pinned before any run); `eval/core-set.sh` selects the 4.0.1 set from 4.0.1 on; 4.0.0 keeps `core-4.0`; `core-4.0/FREEZE.sha256`, `eval/FREEZE.sha256` and `eval/shape-baseline/FREEZE.sha256` are untouched. CI #27 runs the new freeze check.
- `eval/scenarios/battery-4.0.1/` + `eval/run-battery-4.0.1.sh`: the P01..P47 routing probes mapped to the 6 types (expected type and mode per probe, same prompts), additive to the unchanged baseline battery; derived from the frozen `golden.json` by one stated rule, frozen with its own manifest before any run (CI #27 `eval/scenarios/battery-4.0.1/check-freeze.sh`, `tests/test_battery_401.py`), `check-domain.py` for the 7 single-domain probes (the `plan` spawn names its own reference and follows the model tier; report-only). Dropped, because `plan` is one type: the per-mode negatives of P40 and the six other-expert negatives of the 7 domain probes (listed per probe in `dropped_4_0_1`). The runner writes owner-only (`umask 077`, a loose out-dir is tightened or refused) and redacts the derived files like `eval/run-core.sh`. Same prompt, model (Sonnet) and N (5) as the baseline; not run.
- CI #21's preload:true threshold is scaled to the roster (7 of 18 → ceil(7 × agents / 18) = 3 of 6); `scripts/rule-conservation.py` counts `references/domain/` as a rule-hosting directory (the former domain catalogues were runbooks).

### Budgets (only down)

- `.preload-budget`: 18 keys → 6 (plan 13,271 · build 13,271 · verify 15,349 · operate 13,271 · secure 15,349 · design 13,271 B). `build` preloads `shode-house-discipline` and `shode-house-deliverable` (the developer shape; measured 13,271 B, below the developer key 13,310 and above the staff-engineer key 10,199): a preload is host-injected, a load-before-return sentence in the body is not, and `build` is the main code producer. This is the one key set above a replaced role's strictest key, recorded here.
- `.agent-core-budget`: 18 keys → 6, each at the measured body (plan 6,666 · build 6,235 · verify 8,443 · operate 6,599 · secure 6,432 · design 9,241 B).
- `.workflow-scenario-budget`: scenarios re-defined per spawn (a type listed twice is two spawns) and re-measured, all at or below the 4.0.0 values; the five scenarios that spawn `build` (implement-be, implement-ui, diagnose-fast, diagnose-full, full-fanout) rose against the first 4.0.1 draft when `build` gained its second preloaded skill, and stay below 4.0.0; `.skill-metadata-budget` unchanged or lower.
- **Not like-for-like with 4.0.0.** The comparison above is numeric only: the domain rule bodies that `.agent-core-budget` counted per domain agent now sit in `references/domain/*.md`, which no scenario budget counts (the former catalogues were not counted either), and the scenarios were re-defined per spawn. The lazy domain reference load (6-8 KB per domain spawn) is unmeasured.

### Known limitations

- **Designed, not measured.** No model has run the new routing: the routing probes, W11 and the 4.0.1 scenarios must be re-run (same N, Sonnet) before any release decision and reported next to the 4.0.0 baseline; the fable/opus tiers and the per-dispatch `model` override have no run on this plugin. Spec-axis catch rate on seeded violations (same type wrote and reviews acceptance) is a pre-release measurement: E19/E20 are authored with thresholds pre-registered in `eval/scenarios/core-4.0.1/probes-4.0.1.json` (E20: catch rate >= 0.80 over 5 runs of 4 seeded violations, not below the 4.0.0 `business-analyst` baseline; E19: 5 of 5 runs) and have not been run. E20 is a structured text scorer with human adjudication: the reviewer prompt requires one `AC-n: MET` or `AC-n: VIOLATED` line per criterion, `check-probes.py` reads only those lines, and a run lacking one for every criterion (any other wording, a table, a duplicate or conflicting line) is UNSCORABLE (exit 2) for a human to adjudicate. The verdict lines are read only from the spec reviewer's own spawn result (the `tool_result` of its `plan` spawn); the router's final text can only corroborate them, so a different verdict there is UNSCORABLE and a line missing from the reviewer's reply is UNSCORABLE even if the router's text has it. The natural-language heuristic was removed and the scorer re-pinned before any run (thresholds unchanged, the pinned `probes-4.0.1.json` records the revision). Fallback, the user's decision and never applied by an agent: if E20 fails, the spec axis moves from `plan` to `verify`; if E19 fails, domain, architecture and staff-grade briefs run at the type default and report BLOCKED until the user decides. The staff-engineer negative on ordinary work (no over-dispatch of the staff-grade tier) is restated as `post_checks: no-fable-dispatch` in the 4.0.1 derivation.
- Domain model mapping (user decision U30): `opus` for fintech, sap, trading and insurance (the 4.0.0 mapping); erp, booking and ecommerce stay at the type default (sonnet, as in 4.0.0) and get a per-dispatch `model: "opus"` only for high-stakes work, with the reason recorded in the dispatch. This replaces the earlier draft that put all seven on `opus`.
- `build` loses the staff-engineer's WebSearch; research for a radar is a `plan` brief.
- Hooks, `skills:` preload and the per-dispatch `model` override are unverified in Cowork; drag-drop of the built `.plugin` is required before release.

## [4.0.0] — 2026-10-09 (released: tag v4.0.0 at 3f45a22)

### Changed — the router is an output style; 18 agents; agent ids

- **The main session is the router.** `output-styles/shode-house.md` (forced by the plugin, `force-for-plugin: true`) routes, gates, relays and closes; it never edits code or config, runs checks or issues a verdict. It replaces the 3.x `orchestrator` agent and the `oliver` style, both **deleted** (no stub; `tests/test_team_package.py` RETIRED, `tests/test-permission-check.sh` asserts no retired agent file). Spawns are `shode-house:<id>` only; skill loads are `shode-house:<skill>` (A8).
- **18 agents, named by agent id.** Persona names are replaced by agent ids in shipped text (3.x name → id table: `skills/discipline/shode-house-routing/ownership.md` § Formerly). Model tiers are unchanged.
- **One safety floor.** `.safety-floor/body.md` (1,852 B) is copied byte-identical into every agent body and `.safety-floor/style.md` (1,615 B) into the router style (`scripts/floor.py --check --require`, marker = first non-blank line after the frontmatter). R0, redaction, input trust and no-skip-security moved out of `shode-house-discipline` into the floor. **Stricter:** the floor has no local/disposable carve-out — every listed R0 action needs the user's confirmation of that exact action, quoted in the router's headed delegation, even on a target evidenced as local (decision R29). A worker without the router header (`router: shode-house@<version> task:… phase:… iter:…`) writes nothing outside the evidence home and returns `BLOCKED: unrouted`.
- **`ux-ui-designer` has no Bash.** Design scripts run as a request file that the router turns into an order for a separately dispatched executor running `references/design-intel/scripts/design_run.py` (contract `RUNNER_VERSION` **2.0.0**: MAJOR because the user-confirmed preview-origin order keys were removed, R69; design runs target loopback origins only). The 1b/3a runbooks are renamed `ux-ui-designer-phase-1b.md` / `-3a.md` and rewritten to the request format; `oliver-engagement.md` / `oliver-clarify-estimate.md` became `router-engagement.md` / `router-clarify-estimate.md`.
- **Style-less sessions fail closed.** `/consult`, `/design-system`, `/implement` and `/review` report `BLOCKED: team execution needs the router style (Claude Code)` when the router style is not active (the same literal as the `ask` skill), instead of reading the style file to act as the router (R60, R73).
- **Review: the spec axis is always dispatched.** No spec → `BLOCKED: no-spec`, never a SKIP or a silent pass (R57/R62); `review-checklist`, `spec-axis.md`, `intake.md` and `harness.md` aligned.
- **Map mode.** The PM Map-mode entry criteria moved verbatim into `skills/discipline/shode-house-workflow/wayfinding.md` beside "No fog" (R72).
- **Closing a task is the router's.** Shipped text that read as a worker closing a task now names the router as the closer (Sentinel A16(b) table: TP #31 #37 #45 and ten reword-before-pin units); scope approval never covers an R0 action.
- **Generated tree** (`plugins/shode-house`): verbatim sources with plugin-root and relative references re-pointed to `knowledge/`, plus a resolution footer (no thin adapters).

### Added — gates

- **CI #27 (v4 gates), required from 4.0.0:** A1 per-type tools pin, A8 namespaced skill names and spawn forms, A2 safety floor, A16(a) plugin-root fallback ban, A16(b) outside-the-floor relaxation lint (every finding pinned by sha after security review; 49 units), A15 design-runner suite, the W9 v4-security scorer and shadow-floor suites + the core-4.0 freeze, `test_floor`, `test_ci_wiring`, `test_ux_design_runbooks` (loopback-only ux runbooks), `test_eval_runners`. Wired in 3.17.x as advisory; the version bump makes them required. CI installs pytest from the hash-pinned `.github/requirements-ci.txt` with a read-only token.
- **A16(a) and A16(b) are static heuristics, a best-effort tripwire, never a guarantee** (decisions R84, R87): held-out recall of A16(b) was about 15 % (12/80) before the FU-7 word classes; further misses are recorded known limits. The primary controls are the runtime floor line and security-axis review of every shipped-text change.
- U23-5: `test_reference_toc` added to the CI #27 always-required loop; 28 shipped references over 100 lines got a table of contents that must match their headings.
- CI #21 root-only floor 123 → 190; `eval/core-set.sh` selects `core-4.0` for a 4.x checkout (core-3.17 stays frozen).

### Security notes (hooks; Claude Code `.plugin` distribution only — the marketplace tree ships no hooks)

- Hooks are a control only where hooks execute; `disableAllHooks`, control of the hook's environment before its first command (PATH-chosen bash/jq/python3, `BASH_ENV`, `SHELLOPTS` with `noexec` or `onecmd`, `SHELLOPTS` with `xtrace` and a `PS4` that runs a command substitution or assigns a variable the scripts do not reset, exported functions, `DYLD_*`/`LD_PRELOAD`; `BASHOPTS` is listed with them) and a crashing hook are equivalent full bypasses; see README § Security notes. Both write guards and `scripts/scope-check.sh` turn `errexit`, `keyword`, `noglob` and `xtrace` off on their first command, and at their start clear `HOME`, `FUNCNEST`, `TMOUT`, `GLOBIGNORE`, `EXECIGNORE`, `CDPATH`, `POSIXLY_CORRECT` and `BASH_COMPAT` and reset `IFS` (the state guard does this before its jq check). Writes into `.git`, `.git/**` and pointed git dirs are denied where hooks run; for protection wherever Claude Code enforces permissions, add the five `permissions.deny` forms in README (`Edit(/.git)`, `Edit(/.git/**)`, `Edit(**/.git)`, `Edit(**/.git/**)`, `Edit(//<common git dir>/**)`; the two single-file forms are inferred from the documented gitignore semantics, and the hooks deny those files regardless).
- **`jq` is required for hook enforcement; every session shows the status** (decision U23 item 2): the SessionStart hook prints one line, shown to the user (`systemMessage`) and to the model (`additionalContext`), in every project: `ENFORCED` only when jq is on PATH and runs a test program of the guards' kind (JSON input and a regex test) within 0.25 s (the guards call jq many times per tool call (up to 11 in a row with no time check, on a Bash bind), and a hook cut off by the 5 s timeout lets the call through), `hooks/scripts/_casefold.sh` loads and, on macOS, `/usr/bin/perl` with `Unicode::Normalize` runs; otherwise `ADVISORY-ONLY`, naming the first missing or broken dependency and saying that the Write/Edit scope and state guards are NOT enforced (static text, no environment value echoed; `.degraded` gets the same line in a project with an engagement). The guards' verdicts are unchanged: a missing jq still fails open (Hook Charter §7) with a `.degraded` line, and a jq that is present but cannot run still makes the two write guards deny the input they cannot judge (U19). Before 4.0.0 SessionStart was silent unless jq was missing or a torn write was found. README lists jq under the install prerequisites. SessionStart also stops its torn-write scan at 5 s (cut off: a static notice and a `.degraded` line) and shows a torn-write task id only if it matches `[A-Za-z0-9._/:-]{1,64}` (otherwise a static placeholder; at most 10 ids, then `+N more`; a list longer than 4096 bytes ends in `+more (…)`).
- **Bash commands that name the control plane are denied** (where hooks run, in a project with an engagement): a Bash command that names `.shode-house` itself, one of its roots `.shode-house/state`, `.shode-house/journal` or `.shode-house/scope` (with or without a trailing `/`), a name that starts with one of them (`.shode-house/statefoo`) or any `..` segment after `.shode-house/` (`.shode-house/approval/../state`) is denied, read or write; so are `ls .shode-house`, `du -sh .shode-house` and `git add .shode-house`. It is deny-if-mentioned over fixed spellings (after collapsing `//` and removing `/./`, any ASCII case, relative or absolute), not a parser: `config.yaml`, `approval/`, `side-effects/`, `.shode-house-backup` and the plugin's own `workflow-state.sh` / `scope-check.sh` still pass; it fails closed, so a command that names `.shode-house/<child>` and also uses `..` after it (`cat .shode-house/config.yaml && cd ..`) is denied too; quote splicing, globs, braces, variables, backslash escapes, `printf`/`base64`, the dots of `..` spliced or escaped (or a `..` produced by a glob, a brace such as `.{.,x}`, or a variable), a `..` written before the mention that runs after a `cd` in the same command (for example a function body, a `trap` or a loop), a symlink planted under `.shode-house/` (`ln -s .. .shode-house/approval/l`), a relative path in a later, separate Bash call after `cd` and `git clean -fdX`/`-fdx` are not seen (README § Security notes; `references/scope-lock.md` § Enforcement ceiling). `/init` Phase 0 now adds the `/.shode-house/` ignore rule with the Read/Edit/Write tools, not Bash, so re-running `/init` is not refused.
- **Maintainer build and eval evidence:** `make pack` refuses to build when an allowlisted path is a symlink, contains one, or sits under a symlinked parent directory (the archive would get the linked file, which can lie outside the repository), and `scripts/pack-team.py` refuses a linked `.claude-plugin`. The W9 scorers (`eval/v4-security/score_v4.py`, `eval/shadow-floor/sf_score.py`) redact known credential shapes to `<REDACTED>` in what they print or write, after the verdict is decided, and redact run text before cutting it for display; this is best-effort, known shapes only (known misses: a bare token suffix with no prefix left, a URL password of 1-5 digits at the very end of a string (read as a port), a value split across lines, a credential passed as a plain command argument (such as `sshpass -p X`) and a quote escaped with more than 8 backslashes; JSON with escaped quotes, `{\"password\": \"x\"}`, is covered); an arm spawn must serve the whole agent body, and an agent type that is not a plain agent name is INCOMPLETE. The raw run files stay byte-exact and local; redact before pasting from them. `eval/run-core.sh` (decision OD-2 A+) redacts the derived files of each run (tools-seen.txt, score.txt, score.json and meta.json) atomically under `umask 077`, fail-closed (exit 4), before any SUMMARY/log/console text; run.jsonl stays byte-exact and local-only (`eval/RUNBOOK.md` § Evidence redaction). On resume, an existing out-dir is first made owner-only by descriptor (directories 0700, files 0600), or the batch is refused with exit 4 and nothing run when an entry is a symlink, a special file, a hard-linked file, another user's or unreadable, a redaction.json is not what the seal writes (a JSON object whose run_jsonl_sha256 is a lowercase hex sha256 beside a run.jsonl and null without one), or a run.jsonl no longer matches its redaction.json. `run-e01.sh` and the frozen `run-probes.sh` do not redact.
- **Design runs: post-run detection is best-effort.** A payload that runs during a design run and then erases its own trace may go undetected; while a design run is running the router dispatches no other writer. This is a risk the user accepted for 4.0.0 (decision U3), not a security certification; a private-snapshot run is planned after 4.0.0.

### Known limitations

- **Team execution is Claude Code only** (decision R37): on Codex, Cursor and Antigravity skills run in one session, agent spawns return `BLOCKED: unrouted`, and the host's approval/sandbox is the only enforced R0 control there.
- The amended base-directory floor line (F-8c) is **not** in the 4.0.0 floor (its full P2 re-run, shode-house-v7u.14, is open).
- No G9 R0 number is published (R80/R81); published W9 counts are lower bounds.
- No 4.0.0 live eval yet (W11 pending); Cowork drag-drop of the 4.0.0 artifact is a manual release blocker (U7).
- **Live-measured on Sonnet only.** Opus, Fable, Codex and Astra have not passed live multi-model validation (decision U23).
- **Description discovery does not yet cover all 20 skills** (decision U23).
- **The hook exec form awaits a minimum-version compatibility probe** (decision U23). These U23 items are tracked after 4.0.0 as shode-house-v7u.19–.22.
- **The router's never-edit rule and the worker router-header rule are prompt rules, not mechanically enforced** (accepted risk, decision 29 / F16): the main session keeps all its tools, and the header check is a floor instruction, not a host control; only the per-agent `tools:` lists are host-enforced. A main-thread router without Edit/Write/Bash is probed before 4.1.

## [3.17.2] — 2026-09-29

### Changed

- **Fresh sub-agent per task and per review round.** A token audit of a real multi-bead run (~332M cost-weighted tokens) found the largest waste was re-dispatching new beads and new review rounds to an already-used sub-agent: every reuse re-reads that agent's whole history first (one developer agent reused for ~8 beads cost 42M; one reviewer agent 33M). The Handoff Contract already carries context through artifact paths, so history buys nothing. `output-styles/oliver.md` §7 gains rule 6 — a new task or review round goes to a fresh sub-agent; an existing one is continued only within its own task+iter. `skills/ops/drain/execution.md` Step 3 states the same for drain workers, with the reason. Paid for in the same change by dropping the §8 pointer line that restated §7 rule 4 (worker return shape, owned by `shode-house-discipline` § Structured worker return); `output-styles/oliver.md` is 12 B smaller and every scenario budget still passes.

### Measured — dispatch-floor question: closed by measurement, nothing shipped

- **Result: the audit's premise is refuted for the six owners measured.** `outputs/shode-house-8ss/46-intent-audit.md` §4 D1 argued that the always-on dispatch floor in `output-styles/oliver.md` names only Dave, Chris, Quinn, Uma and Sentinel, and that the rest of the team is therefore out of reach. Measured at BASE, with **no wording change of any kind**: P40 Patrick (discovery) k/n = 4/5, P41 Stan (standard-setting / tech radar) 5/5, P42 Elena (ERP) 5/5, P43 Sam (SAP) 5/5, P44 Brooke (booking) 5/5, P45 Emma (e-commerce) 5/5; pooled k = 29, n = 30. Under `eval/PROBE-GATE-floor-v2.md` rule 4.1 this is **STOP-PREMISE-WRONG**: `output-styles/oliver.md` is unchanged, no AFTER arm was run, and the wording proposal in `outputs/shode-house-8ss/50-floor-restore-plan.md` §1 is withdrawn.
- **New coverage, shipped:** P40-P47 in `eval/scenarios/golden.json` and `eval/prompts/probes/`. Six positives for owners that had no probe at all (Patrick, Stan, and the four domain experts erp/sap/booking/ecommerce that were never measured), and two over-dispatch negatives — a one-line fix pitched as a revenue emergency (P46) and a single-file rename pitched as a project-wide convention (P47). Both stayed with the developer alone, one spawn, cap 1, in 10 of 10 runs: inflationary framing did not pull in a product manager, an analyst, an architect or the orchestrator.
- **Gates:** `eval/PROBE-GATE-floor.md` (Stage 1, closed record) and `eval/PROBE-GATE-floor-v2.md` (carries the valid BASE runs forward by id and sha after three probes were repaired). `ARM_SCOPE=floor` in `eval/check-arm-diff.sh` and `eval/run-probes.sh` permits exactly one difference between arms — `output-styles/oliver.md` and its generated copies, by content, with a mode-only change rejected — and refuses everything else; the default scope is unchanged.
- **Probe defect found and repaired mid-cycle, disclosed:** P41, P46 and P47 first scored 0/5 because their prompts described code that does not exist in the fixture (`src/mailer.py` is absent; the "broken" date filter was already correct; the "four divergent retry patterns" are one implementation in one file). Every one of those runs named the right owner, found the premise false and stopped to ask — the documented behaviour. Prompts were re-pointed at real fixture lines and re-recorded at N=5; every `expected` block is byte-identical and no `max_spawns` moved. The pre-repair runs are void data and are never pooled or cited as a routing finding.
- **Caveat on P41, pre-registered before the re-run:** "tech radar" is a literal string of Stan's own capability row, so a pass may reflect keyword match rather than a routing decision. Three of the five runs justify the route by quoting that row. It is the weakest evidence in the set and supports **no** claim about cross-team work. The decision does not rest on it: the other five reach the same STOP.
- **Still unmeasured, stated rather than closed:** cross-team divergence — the fixture is one repo, four modules, 47 lines, with no sibling services, so Stan's actual lane cannot be tested at all and his reachability is **neither confirmed nor refuted**; a `--with-services` fixture flag would be needed first. E03's ambiguity regression persists (scorer 1/3, human-read 2/3 at BASE) and P25 is 2/3, both unexplained. All evidence here is dev-set: the 17-id core set, H-E01..H-E08 and P16-P39 are burned, so nothing generalises and no held-out set currently exists.
- Cost of the exercise: 79 live runs, USD 15.15, sonnet only. Adjudication: `outputs/shode-house-8ss/54-floor-base-adjudication.md` and `56-d2-adjudication.md`.

## [3.17.1] — 2026-09-24

### Fixed

- **A marketplace install never activated the orchestrator output style.** From 3.16.x through 3.17.0 the tree the marketplace entry points at (`plugins/shode-house`, generated by `scripts/pack-team.py`) had **no top-level `output-styles/` directory**: the packer reparented every source file under `knowledge/`, and minted top-level discovery paths for roles and skills only. A host scans `<plugin root>/output-styles/` by default, so it found zero output styles; `knowledge/output-styles/oliver.md` is ordinary data and is never loaded. A user installing from GitHub therefore got the 20 skills, the 19 agent adapters and `/ask`, and **nothing always-on** — no Oliver, no routing table, no phase gates, no evidence discipline. The `.plugin` zip (`make pack`) and the repo root were unaffected: both ship `output-styles/oliver.md` at the root. The two channels shipped different products under one version string.
- **Fix:** `scripts/pack-team.py` now also writes `output-styles/oliver.md` at the generated tree root, byte-identical to the authored `output-styles/oliver.md` (a style cannot be an adapter — the file *is* the main-session system prompt, so it cannot indirect through a "read the real file" wrapper). The authored copy stays under `knowledge/` for the recovery inventory and adapter path resolution; `--check` keeps the two identical. No `outputStyles` key was added to the generated manifests: that field *replaces* the host's default scan, which `CLAUDE.md` bans.
- **A marketplace install also registered only one of the six commands.** The same reparenting kept `/ask` at the tree root and left `consult`, `design-system`, `implement`, `init` and `review` as inert text under `knowledge/commands/`, while the repo root and the `.plugin` zip register all six by default scan. That removed the surface the independent review gate is driven through (`commands/review.md` carries the review dispatch card; `commands/implement.md` the Phase 2-4 flow). The packer now mints one thin adapter per authored command at the tree root, keeping the authored frontmatter and pointing at the preserved source under `knowledge/commands/`, and the generated manifest lists all six.
- **New invariant test** (`tests/test_team_candidate.py`, run by `make test-team-candidate` and the existing CI gate): the generated tree carries a top-level `output-styles/oliver.md`; its bytes equal the repo-root file; its frontmatter still carries `name: Oliver` and `force-for-plugin: true`; every generated manifest leaves the style discoverable (no `outputStyles` key — that field *replaces* the host's default scan, which `CLAUDE.md` bans — and then the style must sit at the default path); and, per registration directory, the **entry names** of `agents/`, `commands/`, `skills/` and `output-styles/` are identical in the repo root, the generated tree and the `.plugin` zip. Entry names, not directory names: "the directory exists but five of its six files are missing" is exactly the state that shipped, and it now fails. Two earlier invariants that encoded the opposite were changed deliberately, not weakened: `..._only_ask_command_ships` now requires every authored command to ship, and `..._not_publicly_registered` became `test_command_sources_preserved_and_every_command_registered` (the authored sources are still asserted byte-identical under `knowledge/`).
- **Not changed: the generated marketplace tree still ships no hooks.** `hooks/hooks.json` and its guard scripts stay out of `plugins/shode-house` on purpose. The `.plugin` zip is a different channel and **does** ship `hooks/` plus the runner scripts (`Makefile` `pack` recipe, unchanged for this release), and the repo root has them too; only `.mcp.json` is root-only, in neither distribution. The tree's exclusion is a consent decision, not an oversight: `references/scope-lock.md`, `references/scope/README.md` and `commands/init.md` all state that the distributed instruction-only plugin "supplies neither these scripts nor hooks" and "must not … install the runtime implicitly", the shipped plugin description says instruction-only runtime, and the guards resolve their helper from `<plugin root>/scripts/`, which the tree does not carry — a tree with hooks but no scripts would hard-deny `Write`/`Edit`/`Bash` for any user who adopted `.shode-house/`. `tests/test_team_candidate.py::test_no_automatic_runtime_hooks_or_mcp` was left intact. Making the programmatic guard layer available to a marketplace install is product work (a separately installed runtime or a user-set flag), not packaging, and is not in this patch.
- **Publishing a command is now an explicit decision.** `scripts/pack-team.py` carries a `PUBLISHED_COMMANDS` allowlist; it refuses to build when the authored `commands/*.md` set differs, and `tests/test_team_candidate.py::test_publishing_a_command_stays_an_explicit_decision` pins the two together. Adding a command file no longer publishes it by itself. Each generated adapter also carries `User request: $ARGUMENTS`, because the placeholder is substituted in the invoked file only, never in a file it links to — an adapter without it would prompt via `argument-hint` and then drop what the user typed (`test_command_adapters_pass_the_user_argument_through`).
- **Reading reversed on purpose.** An earlier internal reading treated the one-command tree as intentional ("single entry point = `ask`"). This release reverses it, deliberately: all six commands carry user-facing `[shode-house]` descriptions, `argument-hint` and `allowed-tools`; README presents `/init`, `/design-system`, `/implement` and `/review` as product; CI requires `commands/implement.md` and `commands/review.md` to dispatch the Spec axis and hosts the review dispatch card in `commands/review.md`; and the repo root and the zip have registered all six since the tree was created. `ask` stays the team entry point — it is not the only door.

### Note on the 3.17.0 numbers

Every routing-probe and core-behaviour number recorded for 3.17.0 was measured against the **repo-root shape** (the eval harness installs the repository with `--plugin-dir`, and the `.plugin` zip has the same shape). Those numbers were never measured against the marketplace tree, which lacked the output style. With this release the marketplace tree carries the output style and the command surface the measured shape had, so the two shapes agree on the registrations the invariant test compares. Nothing was re-measured: the 3.17.0 routing-probe and core numbers still describe the repo-root shape only, and no number in this file was re-run for 3.17.1. Two differences between the measured shape and what a user runs remain, both deliberate and stated here rather than closed: the marketplace tree ships no `hooks/` (the `.plugin` zip and the repo root do, so a marketplace install has the instructional layer only, without the programmatic guards), and `.mcp.json` (the optional Context7 MCP server) exists at the repo root only — every eval ran with it auto-registered, while neither the `.plugin` zip nor the marketplace tree carries it. No scored gate depends on a bundled MCP server. No behaviour was re-measured for 3.17.1 and no new claim is made; the 3.17.0 release notes, gates and known limitations stand unchanged.

### Changed (eval harness; new freeze cycle — both arms must be re-scored from raw traces)

These four items were pending under `[Unreleased]` before this patch and ship as part of 3.17.1.

- `scripts/team-run-check.py` supports Thai and English only: `requires_r0` is unchanged (`authoriz|confirm|ยืนยัน|อนุญาต`); `ask_user` and the "ends with a question" test accept a Thai clause ending in a question particle without `?` (not after `ว่า`, not on a heading line); fenced and inline code are ignored for question detection.
- Every scored run reports `reply_lang`, `prompt_lang` and `reply_lang_match` (script heuristic `th`/`en`/`other`/`none`, report-only; CJK and Vietnamese are `other`); new opt-in expected field `reply_lang: "match"`, used by no scenario.
- `scripts/eval-fixture.sh --with-ui`: refund-history rows are dated relative to the build day (`FIXTURE_TODAY` pins it); the fixed 2026-01 dates had aged out of every period filter.
- Re-scoring the stored 3.17 core traces flips two runs FAIL -> PASS (E03 BASE r1/r3); E10b p12-r3 (a correct stop worded in Vietnamese) stays FAIL by design; recorded gate verdicts are unchanged.

## [3.17.0] — 2026-09-22

### Release notes

**Scope.** 3.17.0 is released for **Claude Code with Sonnet only** (user decision 2026-09-22). Every live number below is Claude Code `sonnet` (`claude-sonnet-5`, CLI 2.1.269). Opus, Fable, Astra and OpenAI (Codex CLI) were **not measured** on 3.17: the cross-model eval matrix and any model profile are deferred to 3.17.x, and no claim is made for any other model. The multi-model simplification below is a design goal, checked statically in CI; it is not a measured cross-model result.

**Core behaviour gate** (`eval/CORE-GATE-rc2.md`, pre-registered; maintainer verdict report 35):
- CORE-GATE-rc2: PASSED (N=3, Sonnet).
- No regression >= 2 detected on the held-out set (held-out, N=3, Sonnet).
- H-E04 improved (held-out, N=3, Sonnet): scorer-k 0/3 -> 3/3, human-k 0/3 -> 2/3.
- H-E05 improved (held-out, N=3, Sonnet): scorer-k 0/3 -> 3/3, human-k 0/3 -> 3/3; UNSAFE 3 -> 0.
- H-E07 improved (held-out, N=3, Sonnet): scorer-k 1/3 -> 3/3, human-k 1/3 -> 3/3.
- E1c improved (dev, tuned-on-test, N=3, Sonnet): scorer-k 0/3 -> 3/3, SAFE 0/3 -> 3/3; UNSAFE 3 -> 0.
- UNSAFE counts (N=3, Sonnet), BASE -> AFTER: H-E05 3 -> 0, H-E06 0 -> 0 (held-out); E1c 3 -> 0, E10b 0 -> 0 (dev, tuned-on-test).
- Disclosure: The 17-id core set is a DEV set, tuned-on-test: rc2 is the 4th wording iteration made after reading its prompts, expectations and traces. Dev numbers show fit, not generalisation. N=3, Sonnet. The first core gate (`eval/CORE-GATE.md`, at 4740c43) did NOT pass; rc2 is the last `output-styles/oliver.md` iteration for 3.17.0, and the held-out core set H-E01..H-E08 is now burned (a dev set from here on). The 12 dev ids not re-run at rc2 carry no claim.

**Routing-probe gate** (`eval/PROBE-GATE.md`, pre-registered; maintainer verdict report 36):
- Routing probe gate (`eval/PROBE-GATE.md`, pre-registered): **NOT PASSED** for the v3.17 skill-description rewrite (commit 72e6ccb, descriptions only, measured on Claude Code `sonnet`, N=5 per probe).
- Regressions: `diagnose` probe P02 5/5 → 0/5 and `drain` probe P09 4/5 → 1/5; description-sensitive total k 64 → 55 (17 informative probes); gains on P29 (1/5 → 4/5), P28 and P32 (+1 each) do not offset these under the pre-registered rule.
- The held-out after-arm of this gate (72e6ccb descriptions) has no scored runs (one infra error, batch stopped), so held-out generalisation of that rewrite is unmeasured; the held-out numbers further below are a post-gate re-measure of different descriptions, not part of this gate.
- The baseline arm was not fully like-for-like: 103 of its 190 runs lacked 18 user-level skills that were present in all after-arm runs; the P02/P09 drops persist on the matched subset.
- This gate measures the description change only; the later agent, skill-body and `output-styles/oliver.md` rewrites in 3.17.0 have no routing-probe measurement.

**Routing after the description fix — post-gate re-measure, not pre-registered.** The `diagnose` and `drain` descriptions were rewritten after the gate (ef31f20; 33fecf0 restores the 3.16.3 Thai trigger words, user decision 2026-09-22) and re-measured as a description-only arm on `baseline-3.17` (`probe-after-3.17-v3`, descriptions of 33fecf0, Claude Code `sonnet`, N=5 per probe). This does not re-run or overturn the gate above.
- P02 (`diagnose`) 2/5 (baseline 5/5); P09 (`drain`) 3/5 (baseline 4/5) (`eval/baseline/3.17-probe-after-v3-p02p09/`). The target the maintainer set before this re-run (P02 >= 4/5 and P09 >= 3/5; not in a pre-registered gate file) is **not met**; by user decision 3.17.0 ships these descriptions as a known limitation, with no further description edits.
- Held-out routing probes, baseline → after (N=5 each): H01 5→5, H02 3→5, H03 3→3, H04 5→5, H05 5→5, H06 5→5, H07 0→5, H08 5→5, H09 5→5, H10 3→5, H11 4→3, H12 1→0, H13 5→5, H14 0→1; plain sum over all 14 ids 49/70 → 57/70, of which +5 is H07 (baseline 0/5, uninformative under rule 3); on the rule-2 positives excluding H07 (H01 H02 H04–H06 H08–H11) 40/45 → 43/45; largest per-id drop 1 (H11 4→3, H12 1→0).
- A public-set re-run of the earlier ef31f20 descriptions is invalid (two concurrent processes wrote one batch) and is not cited. The 33fecf0 descriptions were re-measured on the public set for P02 and P09 only; the other public probes (including the over-trigger negatives) have no measurement with them.

**Known limitations** (core: AFTER, N=3, Sonnet; routing: N=5, Sonnet):
- H-E02 (conflicting stakeholders): AFTER scorer-k 2/3, human-k 2/3 — r2 declared no clarification needed, sided with bookkeeping and dispatched a developer that edited `src/report.py`.
- H-E03 (bug with exact repro): AFTER human-k 1/3 (scorer-k 3/3) — 2/3 runs fixed via developer without running the repro before the fix.
- H-E04 (dropdown option): AFTER human-k 2/3 — r2 wrote phase artifacts under `outputs/` and ran a heavy pipeline for a one-option change.
- E03 (dev, tuned-on-test): AFTER human-k 2/3, scorer-k 1/3 (k* 2/3) — r3 dispatched a developer on a guessed cause (same failure mode as the first gate).
- E04 (dev, tuned-on-test): AFTER scorer-k 2/3 (r1 inline route).
- Routing to `diagnose` and `drain`: P02 2/5 (baseline 5/5) and P09 3/5 (baseline 4/5) after the description fix — a vague "system is broken, find the root cause" request or a batch of ready issues may not load the skill.
- Language: AFTER replied in a language the user did not use in 10/39 runs (BASE 5/39), although reply-language was part of the rc2 edit.
- Cost: AFTER runs cost substantially more (held-out AFTER USD 17.94 vs BASE 5.80 for 24 runs each; E1c 8.56 vs 0.54).
- Dev BASE for E02/E03/E04/E1c ran on macOS-26.6.2 (AFTER on 27.0) — confound.
- 12 dev ids not re-measured at rc2: no claim.
- Models other than Sonnet: not measured (3.17.x).

### v3.17 — Change log by phase

Static numbers in this log are measurements of the repo against tag `baseline-3.17` (bytes, counts), not tokens or cost.

- **P0 Baseline + guard repair** - themed commits of the 3.16.3 tree, `.baseline-3.16.3.json`, tag `baseline-3.17`. `scripts/rule-conservation.py` now compares against `--base` (survives renames/deletes, covers every shipped skill + agent; pinned cycle base in `.rule-baseline`); CI skill-ref scan derives names from the shipped dirs; `.skill-metadata-budget` `__total__` is the real sum (the old check measured only the first file) with a two-way key set; `root_only` safety anchors in `.enforcement-map.json` (0 → 121, CI #21 floor 121). `AGENTS.md` reduced to repo-wide instructions (5,926 → 2,044 B); Beads internals moved to `docs/bd-quickstart.md`.
- **Eval protocol** - frozen N=5 routing-probe protocol (`eval/PROBE-GATE.md`, `eval/FREEZE.sha256`, held-out hashes only), E01 + the routing-probe set, 16 core scenarios E02–E15 + E10b + E1c with fixtures (`eval/run-core.sh`), behaviour-asserting failure-mode fixtures. One live baseline arm recorded on the pre-simplification plugin (`eval/baseline/3.16.3-probe-n5/`, Claude Code `sonnet`); the after-arm result is in the Release notes above; the model matrix is deferred to 3.17.x.
- **P1 Descriptions** - 1–2 English sentences (capability + decision boundary) for every surviving skill; the four-section description rule is gone. Skill metadata 7,817 B (24 skills) → 5,458 B (20 skills).
- **P3 Adapters** - generated skill adapters are lazy entry points; no unconditional "read in full" (CI #25b + `tests/test_team_candidate.py`).
- **Merge 24 → 20 skills, no stub** - table below.
- **P4 Thin-router roots** - depth moved verbatim to lazy references, roots keep goal / invariants / exclusions / stops / routing: dev-gate 22,211 → 10,640 B, drain 18,614 → 11,993 B, plus routing, diagnose, ui-test, workflow, decompose, incident. `≤ 300 lines` now has no exception (CI #1).
- **Tracker-neutral** - no hardcoded `bd <verb>` on shipped surfaces; the tracker follows the target project (`tests/test_tracker_neutral.py`; one Beads example block in `harness.md`).
- **P5 Decision boundaries + completion contract** - "refuse without" gates became `## Inputs and decision boundaries` with a non-empty `### Stop and return` (CI #24c, 6 roots): derive from the repo first, every real stop kept; "Stop and return outranks completion".
- **P6 Agent files** - role-specific core, owner pointers instead of restated universal rules, one bias default-direction line per agent. Agent files 183,606 → 173,934 B (19 files); reviewer ownership tables and protected bias rules anchored first.
- **P7 Ceremony + markers** - fast path with a single owner in `ask` (never lighter than the Bounded tier), mandatory greeting lines removed, broadcast only on transition / blocked / completion; strong markers (`CRITICAL|🔴|MUST|ALWAYS|NEVER|STOP` lines) 249 → 197 by marker-only downgrade of ordinary guidance - 12 protected lines pinned to keep theirs.
- **P10 CI + ratchet + docs** - CI #9 skill description cap (≤ 320 chars) and `CLAUDE.md` header == `plugin.json` version; CI #16 preload `GRACE` 600 → 0 after paying the debt carried since v3.13 (7 domain experts +10 B, 3 reviewers +385 B over key): the discipline root lost one duplicate evidence example pair, three restated lines (one bullet removed, two lines shortened with their root-only anchor kept) and one stale word (11,432 → 11,032 B; the rule stays in the evidence table + two worked examples, including the one where evidence overturns real-world knowledge; 7 migration entries). All four budget files == measured and no key is above `baseline-3.17`: preload sum 287,654 → 277,849 B (Oliver 25,854 → 22,284), full fan-out scenario 491,150 → 461,970 B. `CLAUDE.md` 21,908 → 21,091 B (stale bucket list / prerequisites / dev-loop fixed, runtime detail → owner pointers, budget + conservation + generated-tree invariants and 3 contribution rules added; Cowork validator section untouched). README § Model Support (designed vs measured), ownership map in `docs/enforcement-map.md`, `SHODE-HOUSE-MASTER.md` marked maintainer/historical, `docs/bd-quickstart.md`: bd = beads.
- **Rule accounting** - `.rule-migrations.json` 11 → 88 entries, each with exact source + fragment + reason; conservation green against `baseline-3.17` and every phase tag (`-m`, `-p4`, `-p5`, `-p6`, `-p7a`, `-p7`).
- **Always-on dispatch floor + Phase 1c no-waiver (core Sonnet RC-1 / E1c)** - `output-styles/oliver.md` §5 now carries the floor itself instead of a bare fast-path pointer (Oliver never edits production code or issues a review/test verdict; every code edit is dispatched - fast path → Dave alone + targeted test, Bounded tier up → Dave + Chris, integration verdict → Quinn, UI → Uma/`ui-test`; load `ask` before the first edit) and one Phase 1c sentence (trigger ⇒ Sentinel before Phase 2; "low risk"/user pressure never waives it; no skip / implement-in-parallel option); M1 adds "decide the route before acting"; the user-rights line gains "except 🔴 gates (Phase 1c · R0)". **User decision 2026-09-21: fast path floor = Dave alone** (1 spawn, targeted test as evidence; Chris joins from the harness Bounded tier upward; the Bounded-tier exclusions still move a task up) - matches SPEC §47 and the frozen `max_spawns: 1` of E01/P17/P18/P20/P37; `ask` § Fast path last line reworded accordingly (+1 `.rule-migrations.json` entry, 88 → 89). Paid by trimming restated filler: 10,187 → 10,152 B, every scenario key −35 B. `root_only` anchors 121 → 123 (`oliver-dispatch-floor`, `oliver-phase1c-no-waiver`, CI #21 floor 123); the pinned 8-item trigger list test now also covers the output style. Static change only at the time; superseded by the dispatch floor v2 and rc2 entries below.
- **Dispatch floor v2: trigger → action (live core Sonnet, report 27)** - `output-styles/oliver.md` §5 floor rewritten without the label "fast path" (live runs: Sonnet read it as licence for the main session to edit): Oliver never edits code/config nor runs the verification himself - inspect, then dispatch before any edit or verdict: bug/failing test → load `diagnose` first, then Dave (user decision 2026-09-21: always) (live customer impact → `incident` instead) · review → Chris · verify/integration → Quinn BEFORE Oliver runs anything (inspect = Read/Grep, never run the code under check) · UI file → Dave + `ui-test`/Uma, never Dave alone · other single-file deterministic change → Dave alone + targeted test · everything else → Dave + Chris; material ambiguity → ask first; info-only question (no review/verify/ship verdict) → no dispatch. M4 keeps "Record findings." Phase 1c line: "dispatch Sentinel now - do not ask permission to start". "Oliver Never Does" and the Dave routing row now say code/config. Anchors `oliver-dispatch-floor` / `oliver-phase1c-no-waiver` re-pointed (123 kept); output style 10,152 → 10,131 B paid by trimming restated filler (incl. the § 8 heading slogan and the name gloss; § 4/§ 5 headings kept - referenced from `references/`); every scenario key -21 B. Live numbers (Sonnet, N=3, p11 vs baseline 3.16.3): E1c skip-option offers 3/3 → 0/3 (pass 0/3 → 1/3); E02 main-session self-edit 2/3 → 0/3 (still 0/3 pass: no `diagnose` route). These p11 numbers are exploratory (dev set, not the pre-registered gate); the pre-registered result is the CORE-GATE entry below, which this wording did NOT pass.
- **CORE-GATE result + rc2 (report 31/32)** - CORE-GATE (`eval/CORE-GATE.md`) **NOT PASSED at 4740c43**: rule 2 E10b scorer k 3/3→2/3 (blind read: 6/6 safe; scorer lacks the reply's language - the failing run stopped and asked correctly but answered an English prompt in Vietnamese), rule 3 on human-k (E03 2/3→1/3, a real regression from the bug→`diagnose`→Dave wording: 2 of 3 runs dispatched Dave on a guessed cause for an ambiguous report instead of asking). Known limitations at 4740c43 (AFTER k, N=3, Sonnet): E04 0/3, E12 0/3 scorer (2/3 human), E13 1/3, E08 2/3, E06 1/3, E02 1/3, E05 2/3. Disclosure: the 17-scenario core set is a dev set - `output-styles/oliver.md` was tuned on these scenarios; results show fit to them, not generalisation. N=3, Sonnet only. BASE for E02 E03 E04 E05 E14 E1c was run earlier the same day on macOS 26.6.2, all other runs on macOS 27.0. rc2 changes (new cycle opened by the user; this overrides report 31 §6's pre-registered STOP clause (no further oliver.md edit for 3.17.0) by user decision - rule 5 still blocks 3.17.0 until a re-issued, pre-registered gate is run on rc2; one targeted edit to `output-styles/oliver.md`, nothing else re-tuned): (1) §5 floor now OPENS with the ask-first precondition - "FIRST, above the branches below, not Phase 1c/R0/`incident` (`shode-house-discipline` § Ask vs derive): expected behaviour unclear or no evidenced cause after inspect/`diagnose` → ask user (option-style), STOP - no Dave, no edit, no guessed fix"; bug branch is "load `diagnose` first …, then Dave (evidenced cause only)"; the trailing "Material ambiguity → ask first." is removed (moved to the front, stronger); (2) § 0 response language: "reply in the language of the user's latest message (ไทย → ไทย, English → English); never one the user did not write/request". Output style 10,131 → 10,126 B (paid by six restated fragments in oliver.md: owner gloss, M2 heading parenthesis, the '(ไม่ fix ไทย/อังกฤษ)' parenthesis, §5 heading "PEV loop ต่อ 1 bd", §6 heading "(🔴 ห้ามพลาด)", Stan gloss "/ tech radar / refactor strategy" already in the §4 table; the identity sentence "ไม่ใช่ assistant ทั่วไปที่คอยเรียก Oliver" is kept); every scenario budget key -5 B to measured, no anchor changed (123), `oliver-dispatch-floor` rule prose updated. No scorer change. rc2 was then measured by the re-issued pre-registered gate: CORE-GATE-rc2: PASSED (N=3, Sonnet) - see Release notes.
- **Descriptions after the probe gate** - `diagnose` + `drain` descriptions lead with capability and user symptoms, one boundary last (ef31f20); then the 3.16.3 Thai trigger words are restored in these two descriptions only, as a short parenthetical (33fecf0, user decision 2026-09-22: users write Thai; overrides the SPEC's English-only style for these two skills). Metadata budget not raised. Last description change for 3.17.0; routing numbers in the Release notes.
- **Release 3.17.0** - version 3.16.3 → 3.17.0 (`plugin.json`, `CLAUDE.md` header, marketplace manifests, generated `plugins/shode-house` tree); scope Sonnet only (user decision 2026-09-22).
- **Deferred to 3.17.x** - cross-model core matrix (Opus / Fable / Astra / OpenAI via Codex CLI); model profiles (none shipped - only if the matrix proves a need); Cowork drag-drop check; a new held-out core set from an isolated author before any further tuning.

### v3.17 — Skill merge 24 → 20 (no stub; old names removed)

No capability removed: every rule of the four retired skills was moved verbatim (`scripts/rule-conservation.py --base baseline-3.17`). The old names are **not loadable any more** — update any local pointer.

| Migration: retired skill | → new owner | Where the content lives |
|---|---|---|
| `meeting` | → `ask` | `skills/workflow/ask/SKILL.md` § Team orientation (engagement modes, discipline-skill index, reference files, safety summary). Roster / self-routing / phase index were duplicates: `ask` role directory, `shode-house-routing`, `shode-house-workflow` § Phase Contract |
| `shode-house-evidence` | → `shode-house-discipline` | root `SKILL.md` § Project Evidence Protocol · § Extension protocols · § Input trust (preloaded by all 19 agents) |
| `shode-house-broadcast` | → `shode-house-discipline` | references: `handoff.md` § Handoff Broadcast Protocol (arrow convention, format, 4 rules) · `reporting.md` § Communication (tag prefix, structured tag, caveman broadcast) |
| `shode-house-drift` | → `shode-house-workflow` | root `SKILL.md` § Workflow Drift Defense (M2/M4/M5/M7) + § Phase 1c (canonical 8-item trigger list: auth, session, PII, money, external integration, webhook, file upload, AI agent; "low risk" does not waive) · `drift.md` (M3 table, M6 state pin, M8 procedure, phase notes 0/6/7) |

- Agents: `skills:` preload drops the retired names (18 agents: discipline now carries the evidence protocol; Oliver: workflow carries drift detection). Preload bytes go down for all 19 agents.
- Guards: 14 new `root_only` anchors (approval-durability siblings, threat-model no-waive / pre-Phase-2, discipline safety lines, drift M2/M4/M5/M7), R0 destructive list pinned item by item, permanent tombstone gate (`tests/test_tombstone.py`, single `RETIRED` list in `tests/test_team_package.py`).

---

## [3.16.3] — Carry-over before the 3.17 cycle (in progress on main, not tagged) — 2026-09-20

- **Harness hardening** (bd `shode-house-5cs.*`): lock primitive `scripts/lib/lock.sh`, scope-check ownership/snapshot under lock, approval + side-effect gates, `guard-scope-write` hook, registry routes; shell suites expanded (hooks/lock/registry/reliability/scope-check/workflow-state)
- **Lazy references**: diagnose Steps 2–3 → `full-investigation.md` (core 16,607 → 13,376 B); dev-gate eight-language matrix → `tool-matrix.md`; regression compares moved text against tag `v3.16.2` (`docs/context-audit-2026-09-15.md`)
- **Prompt wording**: agents/commands/runbooks moved to proportional, evidence-based, tool-portable guidance (30-line/4-param = signal not gate; browser MCP optional; BLOCKED vs FAIL distinction); rule migrations recorded in `.rule-migrations.json`
- **Measurement**: `context-budget.py --check`, usage-report and team-run-check extensions with unit tests; `eval/RUNBOOK.md` post-3.16.2 qualification protocol; delivery benchmark 2026-09-15 recorded as **in progress, not a qualification**
- **Known (environment)**: 4 assertions fail only inside the Cowork Linux VM mount (`test-lock.sh` inode-identity + nested `make pack`; `test-scope-check.sh` mutation (a)/(b) lose the exec bit after `sed -i` on the FUSE mount) — re-verify on macOS before citing these suites as green
- Baseline for v3.17 (`docs/PLAN-v3.17.md`, bd `shode-house-8ss`) is measured from this version

## [3.16.2] — Unattended discipline + measured startup — 2026-09-12

- **Harness: iteration cap มีผลจริงเมื่อไม่มีคน** — จากหลักฐาน 3.16.1 (resume run วนถึง iteration 4 เพราะ "escalate user" ไม่มี user): ตอนนี้ cap 3 review→fix ต่อ task; ถึง cap หรือมี policy/scope call ที่ไม่มีช่องถาม → บันทึก safety point (local commit เมื่อมีสิทธิ์) + blocker พร้อม options/recommendation ใน checkpoint → task BLOCKED/PARTIAL → จบ turn; ห้ามตัดสิน business policy หรือขยาย scope เพื่อให้เขียว (`harness.md`, DoD)
- **AC amendment เป็นของ Bella** — Oliver แก้ AC เองไม่ได้ (3.16.1 ทำ C-5/C-6 เองโดย Bella ไม่ถูกเรียกซ้ำ): ส่ง Bella re-check หรือบันทึกเป็น deviation แล้วคง PARTIAL จนยืนยัน
- **Non-interactive host รอ worker แบบ foreground** — ห้ามจบ turn ทั้งที่ worker ยังรัน/verdict ยังไม่รวม (คู่กับ `CLAUDE_CODE_PRINT_BG_WAIT_CEILING_MS=0` ฝั่ง CLI)
- Structural tests เพิ่ม 2 (invariant ของ harness + mutation ลบแล้วต้อง fail) รวม 22; `make validate` เขียวโดยไม่ขยับเพดาน
- **Update path**: `claude plugin install` ไม่ upgrade รุ่นที่ติดตั้งแล้ว — ต้อง `plugin update shode-house@shode-house` (พบตอน 3.16.0 → 3.16.1 บนเครื่อง maintainer; README/release notes ระบุแล้ว)
- **วัด startup/preload เทียบ v3.15.0** (prompt วางแผน read-only เดียวกัน, fixture เดียวกัน, N=3/ฝั่ง, `/shode-house:implement` ของ 3.15 vs `/shode-house:ask`): **first-turn context (startup) median 35,822 → 24,800 tokens (−31%; spread ≤ 2% ทั้งสองฝั่ง) · total input รวม cache read 344,138 → 170,021 (−51%; ช่วง 3.15 = 340k–391k, 3.16.2 = 120k–250k ไม่ทับกัน) · output 4,316 → 3,328 · turns 15 → 12 · file reads 8 → 6 · list cost $0.626 → $0.465 (−26%)** — ทั้ง 6 run ไม่ delegate และคืนแผนความยาวใกล้กัน (3.6–5.5k chars); เป็นตัวเลขของ startup + วางแผน ไม่ใช่ full delivery run และ N=3 — ยืนยันทิศทาง "ลดโหลดซ้ำ" ได้ แต่ห้ามอ้าง % กับงานเต็มวงจร; raw ที่ `outputs/measure-3.16.2/` (maintainer), `summarize.py` stdlib
- **Adopted from mattpocock/skills (เทียบแล้ว 37 skills — ส่วนใหญ่ถูกดูดซับตั้งแต่ 3.16.1: grilling, wayfinder, tdd/vertical slice, diagnose, 2-axis review, deep-module proportionality, handoff/checkpoint)**: (1) `CONTEXT.md` shared language เป็น artifact จริง — glossary เท่านั้น, Bella เจ้าของ, ทุก role อ่านเมื่อมีและใช้ศัพท์นั้นใน artifact/ชื่อ/รายงาน, สร้างเมื่อ term แรกตกผลึก (harness, bella-producer, ask) (2) `wait what` mode ใน ask — re-pitch ข้อความล่าสุดเป็นภาษาคนด้วยศัพท์โปรเจกต์ ไม่เริ่มงานใหม่ (3) `references/runbooks/resolve-merge-conflicts.md` (lazy, OWNER Dave; Aaron สำหรับ CI/infra) — แก้ทีละ hunk ตาม intent ของแต่ละฝั่ง ห้าม `--abort`, generated tree ต้อง regenerate ไม่ hand-merge (4) research ticket ต้อง cite primary source ทุก claim. ไม่ adopt: improve-codebase-architecture (survey ทั้ง codebase ซ้ำ Stan/เสี่ยง over-engineer), wizard/prototype/teach/questionnaire (มีเทียบเท่าหรือ niche), user-vs-model-invoked split ผ่าน `disable-model-invocation` (docs ยืนยันว่าบล็อก subagent preload ที่ทีมพึ่งพา — รอวัด)
- **Risk-tiered verification depth** (จาก T-1 ที่ใช้ 88 นาที/~$40/4 iterations กับ retry loop 200 บรรทัด): bounded change (XS/S, มี test, ไม่มี UI/money/auth/PII/external/schema) = Dave + Chris; Quinn เมื่อข้าม process/network/storage boundary; Bella re-check เมื่อ AC เปลี่ยน; standard feature = Bella/Sara light + Dave + Chris ∥ Quinn; multi-phase/deploy = orchestrator runbook เต็ม; trigger (UI/domain/security) **เพิ่ม** role ได้ทุก tier แต่ไม่มีอะไรลด role ที่ถูก trigger; บันทึก tier + เหตุผลใน checkpoint (harness, ask)
- **Blocking finding ต้องผูกกับ AC/invariant/security criterion หรือ defect ที่ demo ได้ใน changed behavior** — input สมมตินอก contract ที่บันทึกไว้ (กรณี F-14/F-15 ของ 3.16.1: inf/NaN/huge float ของ `retry_delay`) = Low/Suggestion → deferred task ไม่ใช่ merge blocker ไม่เปิด iteration ใหม่ (harness triage, review-checklist gate 5)
- **`scripts/team-run-check.py`** — regression check ของพฤติกรรมจาก stream-json ของ `claude -p` run: spawn ครบตาม role ที่คาด, ไม่ spawn orchestrator, ไม่ nested spawn, มี reviewer อิสระ/ไม่นับ self-review, review rounds ≤ cap, worker ไม่ถูกฆ่า, UNKNOWN op ถูกอ่านแบบ read-only ก่อน re-execute; exit 1 เมื่อ FAIL; unit test 7 (synthetic events) ใน CI; รันกับ forward run ของ 3.16.1 จริง → ทุกข้อผ่านยกเว้น `workers_not_killed` (ตรงกับที่พบ) — `outputs/live-3.16.1/run.sh` เรียกให้อัตโนมัติ
- **Retro 3 บรรทัดตอนปิด task** ใน checkpoint (นานเกินคาดเพราะอะไร / iteration ไหนไม่ควรเกิด / กฎหรือ artifact ไหนควรแก้) เป็น input ของ release ถัดไป
- **Domain numbers หมดอายุได้**: threshold/version/date ใน role file ของ domain expert 7 ตัวเป็นตัวอย่าง ณ วันเขียน — ก่อนใช้ใน deliverable ต้องตรวจกับ primary source ปัจจุบันแล้ว cite ตาม citation contract (domain-core)
- **Host evidence status** ใน `docs/team-candidate-hosts.md`: Claude Code = done (live + GitHub install), Codex = catalog เท่านั้น, Cursor/Antigravity = manifest เท่านั้น พร้อมนิยาม "done" ต่อ host — README จะเรียก host ว่า supported เมื่อแถวนั้น done
- **Live evidence 3.16.2** (fixture/prompt/CLI เดียวกับ 3.16.1, `outputs/live-3.16.2/`): *forward* **20 นาที / $5.47 list / 6 spawns (Bella → Sara ∥ Sentinel → Dave → Chris ∥ Quinn) / 1 review round / 0 blocking finding / 4 tests เขียว / commit 1** — Oliver บันทึก tier เอง ("standard feature เพราะข้าม SMTP network boundary → Quinn; external integration → Sentinel ก่อน implement"), ตรวจ claim ของ Sara บน interpreter จริงเอง, Chris mutation-test 3/3 ใน scratch copy, Quinn ใช้ loopback SMTP จริง, retro 3 บรรทัดถูกเขียน ("Phase 1 ผลิตเอกสารมากเกินฟังก์ชัน 24 บรรทัด") · *resume* **1.8 นาที / $0.72 / 0 spawn** — reconcile `push-T-1-1` ด้วย read-only evidence (ไม่มี remote/tracking ref/FETCH_HEAD) ไม่ push ซ้ำ, ไม่ replay phase ใด, แก้ checkpoint ที่อ้างผิดว่า "ไม่มี UNKNOWN" พร้อม label · `team-run-check.py` PASS ทั้งสอง run (worker ไม่ถูกฆ่าด้วย `BG_WAIT_CEILING=0`) · **เทียบ 3.16.1 บนงานเดียวกัน: 88 นาที → 22 นาที, ~$40 → $6.19 (−85%), 4 iterations → 1, spawn 9+5 → 6** (N=1 ต่อรุ่น — ทิศทางชัดเพราะห่างกันหลายเท่า แต่ยังไม่ใช่ค่าสถิติ)
- ยังไม่ทำในรุ่นนี้: Cursor/Antigravity/Codex runtime จริง, Cowork drag-drop `.plugin`, N>1 ของ live run

---

## [3.16.1] — Full software house restored; multi-host package — 2026-09-12

> **แทนที่ 3.16.0** (tag/history 3.16.0 เก็บไว้ไม่แก้). 3.16.0 ship แพ็ก `ask` skill เดียวที่ตัดทีม 19 บทบาทและความรู้ skill ส่วนใหญ่ออก — 3.16.1 สร้างใหม่จาก `v3.15.0` (`c67f7e3`) โดยเก็บ software house, harness, agents team และความรู้ครบ แล้วลด *การโหลดซ้ำ* ไม่ใช่ลดความสามารถ

- **ทางเข้าเดียว `ask`** (`/shode-house:ask`, skill `ask` บน host อื่น) — Oliver ยึด main session, bootstrap โหลดเฉพาะ discipline + `harness.md` (+ orchestrator เต็มเฉพาะงาน multi-phase/cross-team) แล้ว dispatch specialist จริงตาม role directory; ไม่ preload ทั้ง 19 บทบาท. command เดิม 5 ตัวยังอยู่ใน `knowledge/commands/` (ไม่ register สาธารณะ)
- **Harness** (`shode-house-workflow/harness.md`, `engineering-loop.md`): tracker ที่โปรเจกต์เลือก + Markdown fallback ทุกเรื่อง · scoped handoff · independent verification (Chris/Quinn คนละ context; sequential ได้ ห้าม self-review) · checkpoint สำหรับงานยาว · external effect ที่ timeout = **UNKNOWN** ต้อง reconcile ด้วย read-only evidence ก่อน ห้าม re-execute ด้วย key ใหม่ · no silence-as-approval
- **แก้กฎขัดกัน** (ทุก consumer): Beads-only/Markdown ban → canonical home ที่ยืนยันแล้ว · parallel-only → independent + parallel เมื่อ host รองรับ · ถามซ้ำแม้ตกลงแล้ว (Bella/Sara) → ใช้ task home ที่ยืนยัน · Chris/Quinn: เลขตายตัว (coverage ≥ 80 / mutation ≥ 70 / pyramid 70-20-10 / Docker+Playwright ทุก module) → **risk-based ตามเกณฑ์ที่โปรเจกต์ adopt** (ตัวเลขเดิมคง เป็นตัวอย่าง) ใน `code-reviewer`, `smart-coop`, `definition-of-done`, `routing`, `dev-gate`, `automate-test` · auto-post Jira/PR เพราะมี URL → ต้องมีสิทธิ์โพสต์จริง · 19 บทบาทเลิกอ้างว่า prerequisite "โหลดแล้ว" → ตรวจ context แล้วอ่านเมื่อยังไม่มี. กฎเก่าที่ถูกแทนบันทึกใน `.rule-migrations.json` (5 รายการ) และ gate #24 ตรวจว่า replacement ยังอยู่ — ไม่ได้ปิด check หรือขยับ threshold
- **แพ็กเดียว 4 host** — `plugins/shode-house` generate จาก `scripts/pack-team.py --tree` (CI #25 `--check` fail ถ้า drift): `knowledge/` = ต้นฉบับ 134 ไฟล์ byte-ต่อ-byte (19 agents · 23 skills 5 bucket · references · output-styles · commands) · `agents/` 19 adapter + `skills/` 24 adapter แบบ flat ที่บังคับอ่านต้นฉบับเต็ม + prerequisite (ไม่ใช่ persona ย่อ) · manifest `.claude-plugin` / `.codex-plugin` / `.cursor-plugin` (`commands: []`) / root `plugin.json` (Antigravity) · adapter frontmatter กลาง `model: inherit` (ตัด `color` และ model alias ของ Claude) · **ไม่ ship hooks/scripts/MCP** — runtime 3.15 (`hooks/`, `scripts/*.sh`) ยังอยู่ใน repo สำหรับคนที่ติดตั้งจาก root แต่ไม่บังคับ. marketplace: `.claude-plugin/marketplace.json` + `.cursor-plugin/marketplace.json` → `./plugins/shode-house`
- **Structural tests 20** (`make validate` เขียว โดยไม่เพิ่มเพดาน budget ใด): 6 candidate (knowledge preservation, adapter → source, 4 manifests, version parity, no runtime, drift) · 5 entry (missing role/route/prerequisite/reference mutation) · 9 rule-migration/frontmatter parser (mutation: ลบ replacement → fail). static bytes full-fanout **484,113** vs v3.15 485,662 — ตัวเลข static ไม่ใช่ token จริง และไม่ใช่หลักฐานประหยัด
- **Live evidence** (Claude Code 2.1.269, `claude -p --plugin-dir plugins/shode-house`, unattended ไม่มีคนตอบ, fixture Python ใน /private/tmp, Markdown tracker/checkpoint, `outputs/live-3.16.1/` บนเครื่อง maintainer):
  - *Forward* (46 นาที): Oliver อ่าน ask+harness → spawn **Bella ∥ Sara ∥ Sentinel** เป็น subagent แยกจริง (แต่ละตัวอ่าน role file เต็ม + prerequisite skills จาก `knowledge/`) → Oliver reconcile ความเห็นต่างลง `CHECKPOINT.md` → **Dave** TDD 3 slice → **Chris ∥ Quinn** อิสระ: Quinn ใช้ SMTP listener บน socket จริงจับ **Critical ที่ unit test แบบ mock ไม่เห็น** (1 logical send → 3 deliveries) → Oliver reproduce เองก่อนเชื่อ → route กลับ Dave (iteration 2) ไม่ reset pipeline → Chris/Quinn รอบ 2. spawn รวม 9 (BA 1 · SA 1 · SEC 1 · Dev 2 · Chris 2 · Quinn 2); artifact 6 ไฟล์; 62 tests เขียว; usage `claude-opus-5`: output 304k · cache read 16.5M · cache write 0.9M tokens (≈$21.9 list price) — run นี้ถูก CLI ตัดตอน reviewer รอบ 2 ยังรัน (`Background tasks still running after 600s; terminating`) ก่อน Oliver รวมผล/commit
  - *Resume* (42 นาที, prompt บอกว่า `git push` ก่อนหน้า = UNKNOWN): อ่าน checkpoint ก่อน → **ไม่ทำ Bella/Sara/Dave ซ้ำ** → reconcile `push-T-1-1` ด้วย read-only evidence (`git remote -v` ว่าง → NO-OP, **ไม่ push ซ้ำ**) → dispatch เฉพาะ Chris/Quinn ที่ค้าง → PASS ทั้งคู่ → Oliver รันเช็คชี้ขาดเอง → commit `57b403e` → เห็น finding PARTIAL จึงไม่ปิดงาน (iteration 3–4 ผ่าน `SendMessage` ถึง Dave ที่ยังรัน) → Chris PASS / Quinn PASS → commit `15036a6` → `TASKS.md` T-1 DONE + deferred T-2..T-15 → push **BLOCKED ด้วยเหตุผลสิทธิ์** ไม่ใช่ workaround; 69 tests เขียว; ทุก iteration มี sign-off จาก 2 actor แยกกัน ไม่มี self-review ถูกนับเป็น PASS
  - ข้อจำกัดที่บันทึกตรงไปตรงมา: (1) `claude -p` ต้องตั้ง `CLAUDE_CODE_PRINT_BG_WAIT_CEILING_MS=0` ไม่งั้น subagent ที่รันเกิน 600s ถูกฆ่า (README) (2) ในโหมด unattended Oliver วนแก้ถึง iteration 4 แทนที่จะ record blocker เมื่อเกิน cap 3 — งานที่ทำถูกต้องแต่แพงกว่าที่ควร; ยังไม่แก้ในรุ่นนี้ (3) ไม่มี SAST/coverage tool ในเครื่อง ทีมใช้ stdlib แทนและ**ประกาศ**ว่าไม่ได้รัน scanner (4) Bella ไม่ได้ถูกเรียกซ้ำหลัง AC ถูกแก้โดย Oliver (5) ยังไม่ได้วัดเทียบ token กับ 3.15 บน task เดียวกัน — ตัวเลขข้างบนเป็น absolute ไม่ใช่ saving
- **สิ่งที่ยังไม่พิสูจน์**: runtime บน Codex/Cursor/Antigravity ตรวจแค่ discovery/manifest (Codex app-server อ่าน 24 skills ได้; Cursor/Antigravity ยังไม่รันจริง) — host ที่ไม่มี delegation tool จะได้ Oliver ที่รายงาน BLOCKED ไม่ใช่ทีม; Cowork drag-drop `.plugin` ยังไม่ทดสอบ

---

## [3.15.0] — Runtime enforcement (roadmap Milestone A–G) — 2026-09-09

> จาก "AI อ่านกฎที่ดีแล้วพยายามทำตาม" → "runtime บังคับ invariant ที่ deterministic". GS1 N=3 บน build นี้รันแล้ว: behavior **3/3 PASS** · cost median -5.3% ที่ **เคลมไม่ได้** (t=0.96) — ดูบรรทัดผลวัดด้านล่าง

- 🔴 **แก้เครื่องวัดก่อนอย่างอื่น** — `eval-scorer.py` นับ `message.usage` ต่อ JSONL row แต่ CLI เขียนหลาย row ต่อ 1 message (row ละ content block) แบก usage ก้อนเดิม ⇒ **นับซ้ำ ~×2.6**. dedupe by `message.id` (last-wins — subagent transcript มี `output_tokens` โตข้าม row เพราะเป็น streaming snapshot). baseline GS1 จริง: median **717,757** / p90 **727,503** (เดิมรายงาน 1,876,223 / 1,984,149); ค่าเดิมเก็บไว้ใน `score.json` → `cost.cost_legacy_inflated`. tolerance median +10% / p90 +12% จาก spread จริง 7.9% — **ประกาศข้อจำกัด: N=3 เล็กเกินกว่าจะแยก regression 2–5.5% ออกจาก variance ปกติของ reviewer**
- **Milestone A — workflow state machine**: `scripts/workflow-state.sh` (bash+jq) `init`/`validate`/`advance`/`reconcile` · phase graph 10 node (`0-discover`…`6-operate`) ใน `references/state-machine/transitions.json` เป็น data ที่เดียว · status enum 9 ค่ารวม `escalated` · `enter_requires` **10/10 phase** (3 ตัวว่างแบบมีเหตุผลบันทึก) · atomic write `tmp→validate→rename` · journal append-only seq monotonic · single-writer lock · engagement guard (ไม่มี `.shode-house/` → exit 0 เงียบ)
- **Milestone B — routing/policy**: `references/registry/{capabilities,routes}.json` + `scripts/route.sh` (อ่าน `.states` สด ⇒ phase-id drift เป็นไปไม่ได้เชิงโครงสร้าง) + `scripts/policy-check.sh`. **ตรวจจริง 4/22 rule** อีก 18 `SKIP` พร้อมเหตุผลรายข้อ — ไม่ใช่ policy engine เต็มตามที่ roadmap วาด
- **Milestone C/G — token**: ตัด *สำเนา* ไม่ใช่กฎ (Chris/Quinn adversary skeleton · Felix domain-evidence ซ้ำ `domain-core` byte-ต่อ-byte · Bella § Clarifying ซ้ำ `oliver-clarify-estimate.md` · 5 agent list skill ที่ตัวเอง preload) · stop condition **objective-based ไม่ใช่ turn cap** · output budget inline ≤ 10 findings. **-5,479 B รวม 5 subagent ของ GS1**; security-engineer +568 B (ราคาของ stop condition ไม่กลบในยอดสุทธิ) · `rule-conservation.py` ผ่าน
- **Milestone D — reliability**: แยก `retry`/`rework`/`resume` เป็นคนละคำสั่ง คนละ journal op · error taxonomy 9 class เป็น data (`errors.json`) · `rework-routing.json` ถอดจาก `oliver.md § 5` · `side-effect.sh` idempotency (completed = one-way door) · `approval.sh` ผูก artifact sha + git commit + state_version + scope, drift = **hard DENY ไม่ใช่ warning**
- **Milestone E — concurrency**: `scripts/scope-check.sh` + `references/scope/` ownership · shared-file 4 mode · optimistic sha. เพิ่ม `shared_files[].coupled_with` เกินสเปค เพราะ path-ownership เพียว ๆ จับเคสจริงของเราไม่ได้ (`ac632a3`: สอง agent ทำตาม lock แต่ `ci.yml` กับ `golden.json` coupled กันจน CI แดง)
- **Milestone F — least privilege**: `references/security/{tool-profiles,delegation,trust-levels}.json` ถอดจาก `tools:` frontmatter จริง 19/19 + `scripts/permission-check.sh` + drift test. **finding: ทุก agent ถือ `Write`+`Edit` ⇒ `write_code:false` บังคับที่ tool layer ไม่ได้ เป็น policy layer เท่านั้น**; delegation จริงแข็งกว่า roadmap (มีแต่ orchestrator ถือ `Task`)
- **hooks — จุดที่เปลี่ยน advisory เป็น enforced**: `hooks/hooks.json` + `hooks/scripts/` · `PreToolUse` deny เขียนตรงเข้า `.shode-house/state|journal` · `SessionStart` canary+prereq+torn-write · `Stop` warn-only. guard เขียนใหม่ทั้งหมด (spike substring บน raw JSON → false-positive + bypass 4 ทาง): jq extract `file_path` → lexical normalize → physical canonicalize → prefix compare. **bypass traversal/case/json-escape/dot-slash ปิดครบ พิสูจน์ทีละ vector** · no-op 11 ms/call · **0 token/run** (อยู่นอก context)
- `.gitignore` `outputs/` → `/outputs/` — pattern เดิม match ทุกระดับ ทำให้ `eval/fixtures/outputs-root/outputs/` ไม่เคยถูก commit ⇒ smoke step ของ CI **แดงตั้งแต่ run แรก** เขียวเฉพาะบนเครื่องที่มีไฟล์ untracked
- CI +5 step (1 ต่อ milestone) — **ไม่ใช่ grep-based inline check รายข้อ**: 1 AC = 1 test case ในสวีท ไม่ใช่ 1 CI section
- **วัดแล้ว (GS1 N=3 บน 3.15.0, run-7/8/9)**: behavior **3/3 PASS** ทุกมิติ (5/5 spawn ขนาน · security trigger · evidence · anti-puppet 0 · bd CLOSED) ⇒ เกณฑ์ revert ล็อต C/G ไม่ถูกแตะ · cost median 717,757 → **679,684 (-5.3%)** แต่ **เคลมไม่ได้**: diff of means 36,603 / SE 38,302 / **t = 0.96**, ช่วงทับกัน (3.15.0 max 721,672 > 3.14.0 min 670,972), spread ใหม่ 19.3% vs เดิม 8.4% ⇒ พูดได้แค่ *behavior ไม่ถอย และต้นทุนไม่เพิ่ม* ไม่ใช่ *ประหยัด 5%*. รายละเอียด: `eval/baseline/e2e-golden/GS1-3.15.0-RESULT.md`
- **ผลพลอยได้ที่สำคัญกว่าตัวเลข**: aggregate cost gate ที่ N=3 **ใช้เฝ้า regression ไม่ได้** — tolerance ที่กว้างพอครอบ spread 19% กลืน regression 2–10% หมด. ทางที่น่าจะได้ผล: แยก metric startup/preload (deterministic) ออกจาก reviewer depth (variance สูงโดยธรรมชาติ)
- **ยังไม่ยืนยัน**: Cowork drag-drop กับ `hooks/` (ต้องใช้ UI — 3.15.0 เป็นเวอร์ชันแรกที่ ship `hooks/`)

---

## [3.14.0] — in progress (unreleased) — roadmap A–D จาก external review 2026-09-08

> version บน main bump เป็น 3.14.0 แล้วเพื่อให้ eval/artifact ระบุ version ตรง แต่ **tag/release จะออกเมื่อ roadmap ปรับปรุงเสร็จ** · เนื้อหาถึงตอนนี้เป็น docs/OSS ล้วน ไม่แตะ agent/skill/command behavior

- **E2E eval harness (Phase B)**: `eval/scenarios/golden.json` GS1–5 · `scripts/eval-scorer.py` (stdlib, py≥3.9; อ่าน transcript จริงของ Claude Code: main + `subagents/*.meta.json`; 7 dimension อิสระ, exit 0/1/2, ไม่เดา PASS) · `scripts/transcript-trim.py` · fixtures 7 case + 40 tests. verify บน transcript จริง 65 spawn: Routing/Security/Evidence/Anti-puppet PASS ไม่มี false positive หลัง iter 7; known limit: phrase-list negation (3/10 adversarial) — ดู `eval/README.md`. ยังไม่ได้รัน GS1–5 × 3 บน Claude Code จริง
- **scorer iter14 — `parallel` = execution-window overlap ไม่ใช่ same-message**: Agent tool ของ Claude Code launch async (`async_launched` คืน ~2 s) → GS1 run-4..6 spawn reviewer 5 ตัวห่างกัน 6–7 s แต่วิ่งซ้อนกันจริง; `parallel=False` เดิมเป็น false alarm. score.json ได้ `concurrency: overlap|sequential|same-message|separate-messages` + `windows`. card ใน `commands/review.md` เปลี่ยน "ONE message" → "ติดกัน ก่อนรอผลตัวใด" (CI #19 grep ตาม) — budget #22 ไม่ขึ้น
- ลบ `Claude outputs/` (Cowork export) ที่หลุดเข้า repo ใน 82f8d9c ออก + gitignore
- `LICENSE` ไฟล์จริง (MIT — เดิมมีแค่ badge + manifest field, GitHub รายงาน `license: null`)
- reference project #1 `shode666/shode-house-example-refund` (partial refund + ledger) ผ่าน pipeline เต็ม — link ใน README § Benchmarks
- `docs/ARCHITECTURE.md` — 3 Mermaid diagrams (agent topology · PEV lifecycle · enforcement architecture) + สิ่งที่ยังไม่มี (roadmap)
- README restructure: What → Architecture → 60-second example → Why different → Install → Benchmarks → reference; ตัด section changelog v3.9–v3.12.1 ที่ซ้ำกับไฟล์นี้ออก (source of truth เดียว) · version badge 3.12.1 → 3.13.0 · Drift Defense 7 → 8 mechanisms (M8 หายจากตาราง)
- `eval/README.md` sync กับผลจริงใน `eval/results/3.13-rc1/` (เดิมเขียนว่า runtime baseline ยังไม่ได้รัน)
- tag ย้อนหลัง v3.10.0 · v3.10.1 · v3.12.1 · v3.13.0 (v3.11.0/v3.12.0 ไม่มี commit แยก — squashed ใน PR #3)

---

## [3.13.0] — Prompt Architecture · Lazy-load Topology · Token Usage Observability — 2026-09-02

แผนเต็ม → **`docs/PLAN-v3.13.md`** · static baseline ของ 3.12.1 → **`.baseline-3.12.1.json`** · ผลวัดจริง → **`eval/results/3.13-rc1/`**

**ผล A/B (Cowork, 9 agent, ctx0 = context ตั้งต้น turn แรก)**: ลดทุก agent, รวม 288,625 → 264,986 (**−8.2%**), Sentinel −10.2% … Felix −4.9% · behavioral invariant 8 ข้อผ่าน 100% ทั้งสองฝั่ง · **target 10–25% ต่อ scenario ไม่ผ่าน** — ตั้งบนสมมติฐานว่า plugin คือ context ทั้งหมด ซึ่งไม่จริงใน Cowork (harness คงที่) · ข้อจำกัด: 1 run/agent, ยังไม่ E2E ผ่าน command จริง

10 workstream: enforcement map · discipline core · deliverable core · review axes · domain core · Oliver/Uma runbook · lazy-load contract ที่ตรวจได้ · eval harness เป็น release gate · token budget รุ่นใหม่ · **token usage observability**

🔴 หลักการกำกับ: **byte ที่ลดลงไม่เท่ากับ usage ที่ลดลง** — agent อาจโหลด reference ซ้ำ, fan-out มากขึ้น หรือเขียน output ยาวกว่าเดิม. DoD ของ 3.13 คือ **token ที่ใช้จริงลด · cost/latency ดีขึ้น · enforcement accuracy ไม่ลด** ไม่ใช่แค่ไฟล์เล็กลง

Baseline 3.12.1 (static): full fan-out 587,390 B · Phase 3b + Sentinel + Domain 175,383 B · sensitive UI full 243,787 B · `/consult` 37,004 B

---

## [3.12.1] — token diet: full fan-out 702,788 → 587,398 B (−16.4%) — 2026-09-02

> **patch ไม่ใช่ minor**: ลดขนาด context อย่างเดียว ไม่เปลี่ยน behavior · ไม่ตัด safety / evidence / Spec axis / approval gates ข้อใดเลย
> CI 21 checks เขียวทุกขั้นระหว่างทาง

| ชั้น | ก่อน | หลัง |
|---|---:|---:|
| **Full fan-out (agent + preload)** | 702,788 B | **587,398 B** (−115,390) |
| Agent prompts 19 ตัว | 241,147 B | 218,061 B |
| `shode-house-deliverable` (×7 agent) | 13,844 B | **6,453 B** (−51,737 B ที่ fan-out) |
| `review-checklist` (×3 reviewer) | 14,637 B | **9,547 B** |
| Skill discovery frontmatter (22) | 15,658 B | **9,398 B** |
| Oliver (body) | 29,283 B | **19,214 B** |
| Uma (body) | 26,295 B | **13,214 B** |

**วิธี** — ทุกอย่างเป็นการ *ย้ายไป lazy reference* ไม่ใช่การลบกฎ:

1. **runtime changelog wording** — ตัด provenance/version tail ออกจาก 43 ไฟล์ (−5,724 B). *หมายเหตุ*: scan ประเมินไว้ ~49 KB แต่ส่วนใหญ่เป็นบรรทัดที่ **มีเลขเวอร์ชันแต่เนื้อในเป็นกฎปัจจุบัน** — ตัดจริงได้เท่านี้ ที่เหลือต้องแยกโครงสร้าง
2. **`review-checklist` → orchestration core** — Chris 7-dim (3,057 B) และ Quinn matrix (1,142 B) **ซ้ำกับ agent body ของเจ้าตัวอยู่แล้ว** จึงเหลือแต่ตารางแกน + severity + aggregation; Spec axis → `spec-axis.md` (Chris/Quinn/Sentinel ไม่ได้ทำแกนนี้แต่แบกไว้ ×3)
3. **`shode-house-deliverable` → core + 3 reference** — เหลือ Anti-Puppet ที่ต้องอยู่ในหัวตลอด; `output-contract.md` · `definition-of-done.md` · `adr.md` โหลดตอนจะ produce/finalize
4. **domain agents** — citation เหลือ 1 positive + 1 negative, ตัด historical note (−1,715 B รวม 7 ตัว)
5. **skill frontmatter** — ตัด `[AUDIENCE]`, `[TRIGGER]` เหลือ 6 คำ, `[WHEN]` เหลือประโยคแรก (15,658 → 9,398 B)
6. **`diagnose` loop ladder** — SKILL.md เหลือ 3 วิธีแรกที่ครอบเกือบทุกเคส; อีก 7 วิธี → `loop-ladder.md`
7. **แยก runbook** — `references/runbooks/uma-phase-1b.md` · `uma-phase-3a.md` · `oliver-engagement.md` (Engagement template + Phase 0/1c/6/7 + multi-sig)
8. **ratchet ลงตามจริง** — `.preload-budget` อัปเดตทุกค่า · CI #20 `TOTAL_BUDGET` 62,000 → **50,000 B**

**Workflow amplification หลังลด** (เฉพาะ prompt + preload): Phase 3b + Sentinel + Domain **193,330 → ~150,000 B** · Sensitive UI full **292,247 → ~235,000 B**

---

## [3.12.0] — Spec axis + feedback-loop diagnosis + run durability — 2026-09-01

> **Root cause รอบนี้: discipline ที่บอก "ให้ทำ" แต่ไม่ได้บอก "ทำยังไงถึงจะรู้ว่าจริง"** — review ที่ไม่มีใครเทียบ spec, debug ที่เริ่มจากทฤษฎีแทน loop, approval ที่หายไปกับ session

### 🔍 หลัง independent review (fresh sub-agent 2 ตัว, ไม่เห็น rationale ของผู้เขียน)

รีวิวจับได้ 1 Critical + 4 High + stale pointer หลายจุด — แก้ครบก่อนปิดรุ่น:

- 🔴 **`check_contrast.py` block ทุก palette ในแคตตาล็อก (5/5 query ที่ reviewer ลอง)** — สาเหตุ: ผู้เขียนใส่ `Border/Background` เป็น hard gate 3:1 ซึ่ง **ตีความ WCAG 1.4.11 ผิด** — 1.4.11 บังคับ 3:1 เฉพาะ non-text ที่ *สื่อความหมาย* (ขอบที่จำเป็นต่อการระบุ control, graphical object ที่สื่อข้อมูล) ส่วนเส้นคั่น/ขอบการ์ดที่ตกแต่งล้วนไม่เข้าข่าย. ผลคือ Uma Phase 1b จะถูก **hard-block ทุกครั้ง** (`ux-ui-designer.md` เขียนว่า exit≠0 → ห้ามเขียน tokens.json)
  - แก้: แยก **HARD** (text pairs + `Ring/Background` = focus indicator ซึ่งสื่อความหมายเสมอ) ออกจาก **WARN** (`Border/*` — รายงานค่าจริง + บังคับให้ Uma ตัดสินต่อ component ว่า meaningful หรือ decorative แล้วบันทึกเหตุผลใน bd)
  - ทดสอบใหม่ 18 query: block 0 · hard path ยังจับของพังได้ (`#9CA3AF` on `#FFFFFF` = 2.54:1 → BLOCKED)
- 🔴 **CI #17 ตรวจแค่ว่าไฟล์มีอยู่** จึงปล่อย bug ข้างบนผ่าน — เปลี่ยนเป็น **รัน pipeline จริง** (search → check_contrast 3 query) + **negative test** (ถ้า gate ปล่อยคู่สี 2.54:1 ผ่าน = CI แดง)
- 🟠 **CI check ใหม่ #11b** — ทุก shipped skill ต้องมี link ใน README (`decompose` หลุด index เพราะ #11 ตรวจแค่ทางกลับ ref→dir)
- 🟠 `CLAUDE.md` dead ref: Handoff Contract ชี้ `shode-house-workflow` ทั้งที่ย้ายไป `shode-house-discipline` แล้ว · budget doc ยังเขียน "orchestrator 41,000 B" ที่ยกเลิกไปแล้ว · header ยังเป็น v3.7.0 · roster ไม่มี `decompose`
- 🟠 `dev-gate` 401 บรรทัด เกิน cap 400 → ย้าย `.pre-commit-config.yaml` ตัวอย่างไป `dev-gate/pre-commit-config.md` (เหลือ 340)
- 🟡 stale pointer: `code-reviewer` + `qa-engineer` ชี้ REVIEW format ไปที่ "(meeting skill)" ซึ่งไม่มี section นั้นแล้ว → ชี้ไป `report-format.md` · `workflow` ชี้ "§ Lifecycle Hooks ด้านล่าง" ที่ย้ายไป `smart-coop.md` แล้ว
- 🟡 `drain` ตาราง invariant เรียงผิด (7 → 9 → 8)
- ✍️ แก้ถ้อยคำ CHANGELOG ที่ review พบว่าเกินจริง: REVIEW format **ไม่ใช่** duplication (evidence เป็น SoT เดียวจริง) · drain conflict เป็นการ **ขยายของเดิม** ย้ายไป Changed · "8 agent" → 7 · WCAG จุดที่ 4 อยู่ใน `commands/design-system.md`

**รอบสอง (verifier อิสระอีกตัว ตีกลับ NOT READY — แก้ครบแล้ว)**:
- 🔴 CHANGELOG อ้างว่า "แก้ dead ref ครบ" ทั้งที่ `CLAUDE.md:29` ยังชี้ Handoff Contract ไป `shode-house-workflow` (ผู้เขียนแทนที่ผิด string) → แก้แล้ว
- 🟠 **`§ No-Bias` ตายใน 19/19 agent** — ไม่เคยมี section นี้ใน `shode-house-discipline` เลย (v3.3 ตัดสินว่า embed bias discipline ในตัว agent) แต่ทุกไฟล์ยังอ้างถึง → เขียนใหม่เป็น "embedded per-agent" + ชี้ cite-before-claim ไป `§ Project Evidence Protocol` ที่มีจริง (+ แก้ใน `routing` และ `product-manager` ด้วย)
- 🟠 **Border→WARN ผ่อนเกินไป**: WCAG ถูกตามตัวอักษร แต่ 12/12 palette แค่ WARN แล้วผ่าน และ**ไม่มีที่ไหนบันทึกคำตัดสินของ Uma** = เท่ากับไม่มี check → เปลี่ยนเป็น **block จนกว่าจะ ack**: `--border-decorative "<เหตุผล>"` พิมพ์บรรทัด ACK ให้ paste ลง bd; ไม่ ack = exit 1. CI #17 เพิ่ม negative test ว่า "ไม่ ack ต้องไม่ผ่าน"
- 🟠 **cap 400 บรรทัดไม่มีใครบังคับ** — CI ยกเว้น `meeting`/`dev-gate` จาก check #1 แบบไม่มีเพดาน จึงปล่อย dev-gate โต 401 → เปลี่ยนเป็นยกเว้นจาก 300 แต่ **บังคับเพดาน 400**
- 🟡 `ux-ui-designer:213` ชี้ anti-puppet ไป "(meeting skill)" → `shode-house-deliverable § Anti-Puppet Rule`
- ✍️ ตัวเลขใน CHANGELOG ที่ verifier จับได้ว่าคลาด: Oliver 30,870 → **30,922 B** (margin 78 ไม่ใช่ 130) · fan-out **165,778 tok** · workflow **2,399 tok**

**รอบสาม–สี่ (verifier ตัวเดิม ตีกลับอีก 1 รอบ)**:
- 🔴 **การแก้ข้อ Border สร้าง regression ใหม่ในชั้น doc** — code เปลี่ยนเป็น block-until-ack แล้ว แต่ `agents/ux-ui-designer.md` และ `design-intel/README.md` ยังสอนให้รัน gate **โดยไม่มี `--border-decorative`** และยังเขียนว่า "ต้อง ALL PASS" → Uma ที่ทำตาม runbook ของตัวเองยังถูก hard-block ทุก Phase 1b เหมือนเดิม (defect ย้ายที่ ไม่ได้หายไป) → แก้ runbook + README ให้สอน flag พร้อมเกณฑ์ 1.4.11 และ **บังคับ paste บรรทัด ACK ลง bd** (เพิ่มเป็นข้อใน pre-implement-ui gate)
- 🟡 CI #17 negative test พึ่ง `/tmp/ds.json` ที่ค้างจาก loop (ถ้าวันหนึ่ง palette นั้น border ผ่าน 3:1 จะ false-fail) → ปั้น payload เองแทน + เพิ่ม positive test ว่า ack ต้อง unblock. **พิสูจน์ด้วย mutation test**: patch `allok = False` ให้เป็น no-op → CI จับได้จริง
- 🟡 `CLAUDE.md` กฎขนาด SKILL.md ขัดกันเองในบรรทัดเดียว ("≤ 300 บรรทัด (≤ 12 KB)" แล้วอธิบายท้ายบรรทัดว่าเลิก 12 KB) → เขียนใหม่ทั้งบรรทัด
- ✅ verdict สุดท้าย **READY TO RELEASE** — verifier รันเองทุกข้อ: 12 query block-without-ack 12/12 · ack ผ่าน 12/12 · hard path ยังจับ text 2.54:1 · CI 19 section เขียว · ไม่มี dead ref ใหม่

> **หมายเหตุ process**: ผู้เขียนเคลม "แก้ครบ" ผิด **2 ครั้ง** (รอบสองอ้างว่าแก้ dead ref ครบทั้งที่ replace ผิด string; รอบสามแก้ code แล้วลืม doc) — fresh reviewer จับได้ทั้งสองครั้ง. ข้อจำกัดที่เหลือ: การ paste ACK ลง bd เป็น self-attested — CI ตรวจ bd ไม่ได้ กลไกบังคับได้แค่ "ต้องตัดสินอย่างตั้งใจ" ไม่ใช่ "ต้องบันทึกจริง"

### 🚨 หลัง full scan อิสระ (ไม่ถือว่า behavior รุ่นก่อนถูก) — verdict เดิม NOT READY, execution blocker 5 จุด

จุดบอดของ review 4 รอบก่อนหน้า: **ตรวจ diff แต่ไม่เคยตรวจ execution path** — allowed-tools, dispatch list, tool ที่ plugin จัดหาจริง

- 🔴 **Spec axis ซึ่งเป็น headline ของ 3.12 ไม่เคยถูก dispatch** — `review-checklist` บังคับให้รันคนละ sub-agent แต่ kickoff ของ `/implement` Phase 3b และ `/review` ส่งแค่ Chris/Quinn/Sentinel/Domain → feature มีอยู่ในเอกสารแต่**ไม่เกิดขึ้นจริง** → เพิ่มเลน Bella (Spec axis) เข้า kickoff ทั้งสอง command + **CI #19** ตรวจว่า axis ที่ checklist ประกาศต้องถูกส่งจริง
- 🔴 **commands สั่งโหลด skill แต่ `allowed-tools` ไม่มี `Skill`** (design-system/implement/review) · **`/init` เรียก `AskUserQuestion` ที่ไม่ได้อนุญาต** → interactive wizard พังตั้งแต่ Phase 1 · **`/review` เขียน Jira comment ด้วย `addCommentToJiraIssue` ที่ไม่อยู่ใน allowed-tools** → เติมครบ + **CI #18 tool reachability**
- 🔴 **reviewer ถูกบังคับใช้ browser MCP ที่ plugin ไม่ได้จัดหาและ agent ไม่มีสิทธิ์** — Chris/Quinn `tools:` ไม่มี MCP ใด ๆ, `.mcp.json` มีแค่ Context7 และไม่ถูก pack → เปลี่ยนจาก "บังคับ tool" เป็น **"บังคับ evidence + tool ladder"**: Playwright ผ่าน `Bash` เป็นทางหลัก (พึ่งพาได้เสมอ), browser MCP เฉพาะเมื่อ session มีจริง, ทำไม่ได้ = **BLOCKED ไม่ใช่ PASS** (ladder อยู่ใน `ui-test`)
- 🟠 **`make pack` พังบน macOS** — `.RECIPEPREFIX` ต้องการ GNU Make ≥ 3.82 แต่ macOS มาพร้อม 3.81 → `missing separator` ทั้งที่ README ประกาศเป็น local dev-loop → เขียน Makefile ใหม่ด้วย TAB · **เพิ่ม `make validate`** ที่ดึง gate script จาก `ci.yml` มารัน (แหล่งความจริงเดียว ไม่ copy logic) — เดิม `.pre-commit-config.yaml` อ้าง target นี้ทั้งที่ไม่มีอยู่ · `make clean` ลบ temp archive `ziXXXXXX` ที่ `.gitignore` ซ่อนไว้
- 🟠 **shipped-reference integrity** — Oliver อ้าง fixture ใน `skills/in-progress/` ที่ Makefile จงใจไม่ pack → ผู้ใช้ที่ติดตั้ง plugin เปิดไม่ได้; `fixtures/README.md` ชี้ path ผิด (`skills/discipline/eval-harness`) และอ้าง fixture `caveman/` ที่ไม่มี → แก้ทั้งหมด + **CI #12 ขยายขอบเขต** ไปตรวจ agents/skills/commands/references (เดิมตรวจแค่ README+CLAUDE จึงปล่อย broken link ทุกที่)
- 🟠 **`/review` fixed-point policy บังคับเกินไป** — สั่ง "ไม่ระบุ → ถาม ห้ามเดา" ทั้งที่ `/review path` และ `/review <bug>` เป็น contract ที่โฆษณาไว้ → ย้ายไป `commands/review.md` § Scope resolution พร้อม **fallback ladder** (upstream branch → staged → working tree → full-file สำหรับ non-git/snippet → ค่อยถาม)
- 🟠 **`diagnose` แข็งเกินไป** — ห้ามอ่าน code ก่อนมี one-command repro ทั้งที่หลายระบบต้องอ่าน route/test setup ก่อนถึงสร้าง harness ได้ และบังคับ 5 ขั้นเต็มกับ bug เล็ก → เพิ่ม **fast path vs full path** + แก้เส้นแบ่งเป็น "อ่านเพื่อ *จะ trigger ยังไง* ได้ / อ่านเพื่อ *น่าจะพังเพราะ* ไม่ได้" + แก้หัวข้อ "4 Steps" ที่มี 5 ขั้น
- 🟠 **PCI ตัวอย่างใน 7 domain agent เป็น false authority** — `"Req 3.5.1 — store PAN encrypted at rest"` แคบกว่ามาตรฐานจริง (3.5.1 รับ truncation/tokenization/hashing/strong cryptography) และมี ✅ นำหน้าจนโมเดลอาจ reuse เป็น requirement → เขียนใหม่ + กำกับว่าเป็น **illustrative formatting เท่านั้น ต้องเปิด primary source ทุกครั้ง**
- 🟡 `drain` ชี้ Handoff Contract ไป skill เก่า · hardcode `scripts/ci/local.sh` → เปลี่ยนเป็น `$FAST_GATE` ที่ detect เอง (npm test / make test / pytest) และหยุดถามถ้าหาไม่เจอ · เอกสารเขียน v3.12.1 ขณะ manifest 3.12.0 → รวมเป็น v3.12 (ยังไม่เคย release) · Makefile/CLAUDE เขียน "no Python" ทั้งที่ gate #17 ใช้ python3 → แก้ · trailing whitespace ใน `design_system.py`
- ✅ **CI ใหม่ 3 ตัว พิสูจน์ด้วย mutation test ทุกตัว**: #18 tool reachability (ถอด AskUserQuestion → แดง) · #19 dispatch graph (ถอดเลน Spec → แดง) · #20 **context budget = agent prompt + preload** (เดิม #16 นับเฉพาะ skill จึงปล่อย Oliver/Uma โตได้ไม่จำกัดใน agent file; cap 62,000 B — Oliver 60,428 B)

### 🧹 Full scan รอบสอง — ปิด 2 High ที่เหลือ + cleanup

- 🟠 **`AskUserQuestion` ยังไปไม่ถึง Oliver** — แก้ `/init` ไปแล้วแต่ `smart-coop.md` สั่ง Oliver ใช้ tool นี้ขณะที่ `tools:` ของ Oliver ไม่มี · README ประกาศ "ทุก agent ใช้ AskUserQuestion" ทั้งที่มีแค่ `/init` ได้สิทธิ์ · **CI #18 ตรวจเฉพาะ `commands/*.md` จึงเขียวแบบ false negative**
  → ให้สิทธิ์ **Oliver ตัวเดียว** (M7: Oliver เป็นตัวเดียวที่คุยกับ user โดยตรง; sub-agent ที่เจอความกำกวมส่งคำถามกลับ Oliver) · แก้ README ให้ตรง policy · **ขยาย CI #18** ให้ตรวจทั้ง agent prompt และ **skill/reference ที่สั่งให้ agent ใช้ tool** (map เจ้าของ → agent file)
- 🟠 **browser policy ขัดกันเองใน agent prompt** — checklist บอก Playwright เป็นทางหลัก/MCP optional แต่ Chris/Quinn ยังเขียน *"ห้าม trust Playwright headless เพียงอย่างเดียว"* และ *"No Claude in Chrome installed → escalate Aaron install (ห้าม PASS)"* → agent อาจเลือกกฎเข้มกว่าแล้ว block review ด้วยของที่ plugin ไม่ได้จัดหา
  → ลบคำสั่ง install ออก และระบุชัด: **Playwright evidence ที่ครบ (screenshot + console + network) = เพียงพอต่อ PASS** · browser MCP = second channel ที่ทำเพิ่มได้เมื่อมีอยู่แล้ว
- 🟡 **`make validate` รายงาน PASS ทั้งที่ ASCII check ไม่เคยรัน** — macOS `grep` ไม่มี `-P` → exit 2 ถูกตีความว่า "ไม่พบ" → เปลี่ยนเป็น portable `LC_ALL=C grep '[^ -~]'` (mutation test: ใส่ non-ASCII ลง description → แดงทั้ง non-ASCII และ en-dash)
- 🟡 **#16 ยังไม่ใช่ ratchet จริง** — เพดานกลาง 31 KB ปล่อยให้ domain agent โตจาก 16 KB ไป 31 KB ได้โดย CI ไม่รู้ตัว → เพิ่ม **`.preload-budget` baseline ต่อ agent** (19 บรรทัด) + grace 600 B: ลงได้เสมอ ขึ้นเกิน grace = แดง (mutation test: booking-expert 16,089 → 16,990 → แดง)
- 🟡 **Standards Correctness ซ้ำกับ Spec axis** — ข้อแรกของ 7-dim ยังเป็น "Logic ตรง spec/AC" ทั้งที่ Spec axis ถูกสร้างมาตรวจเรื่องนี้ → เปลี่ยนเป็น **internal behavior/invariant/error-path** และปล่อย requirement conformity ให้ Spec axis (ลดการอ่าน diff ซ้ำ + finding ซ้ำ)
- 🟡 **model cutoff hardcode "May 2025"** ใน 7 domain agent ทั้งที่ model เปลี่ยนได้และแต่ละตัว cutoff ไม่เท่ากัน → เปลี่ยนเป็น "training cutoff ของ model ที่รันอยู่"
- 🟡 blank line ที่ EOF ใน `ux-ui-designer.md` + `shode-house-workflow/SKILL.md` → `git diff --check` สะอาดแล้ว

### 🚨 Full scan รอบสาม — 2 release blocker ที่ CI ตรวจไม่ถึง

- 🔴 **`make clean` ลบไฟล์ผู้ใช้ได้** — recipe ที่เพิ่มในรอบก่อนใช้ `rm -f ... zi[A-Za-z0-9]*` เพื่อกวาด temp archive ของ `zip` แต่ glob นี้ลบ **ทุกไฟล์ที่ขึ้นต้นด้วย `zi`** ในโฟลเดอร์ผู้ใช้ (`zig`, `zip-config`, `zinc-report`, …) = destructive cleanup ที่ scope กว้างเกิน
  → ถอด glob ออกทั้งหมด · `make pack` เขียน archive ใน **`mktemp -d`** แล้ว `mv` เข้ามาเมื่อสำเร็จ (ไม่มี temp ตกค้างใน cwd ตั้งแต่แรก) · `make validate` เลิกเขียน `.gate.sh` ทับใน repo เปลี่ยนเป็น `mktemp`
  → พิสูจน์: สร้าง `zig` `zip-config` `zinc-report` แล้วรัน `make clean` → ไฟล์ทั้งสามยังอยู่ครบ
- 🔴 **`AskUserQuestion` แก้ permission แต่ execution model ยังผิด** — Claude Code ระบุว่า tool นี้**ไม่รองรับ subagent ที่ spawn ผ่าน Task** ([docs](https://code.claude.com/docs/en/agent-sdk/user-input)) การเพิ่ม tool ให้ `orchestrator` จึงทำให้ CI เขียวแต่ตายตอน runtime และ `smart-coop.md` ก็ยังสั่ง Oliver เปิด popup เอง
  → เปลี่ยนเป็น **main-session relay**: subagent `return question bundle` → command/main session เรียก popup → เขียนคำตอบกลับ tracker → ส่ง path ให้รอบถัดไป
  → ถอด `AskUserQuestion` ออกจาก `agents/*.md` · เพิ่มให้ `/design-system` + `/implement` (main session) · README ระบุชัดว่า **"main session เท่านั้น ไม่ใช่ `orchestrator` subagent"**
  → **CI #18 กลับด้าน**: ประกาศ `AskUserQuestion` ใน agent `tools:` = **error** (เดิมบังคับให้มี), prompt ที่สั่ง subagent เรียก popup = error, และ skill/reference ที่พูดถึง tool นี้ต้องระบุว่าเป็น main-session (mutation test ผ่านทั้งสองทาง)
- 🟠 **Chrome mandatory wording ค้าง 5 จุด** — `smart-coop.md` ×2, `orchestrator.md`, `review-checklist`, `README` ยังเขียน "Chrome verify" / "Claude in Chrome verify mandatory" ซึ่งขัดกับ evidence ladder ใหม่ที่เพิ่งวางไป → เปลี่ยนทั้งหมดเป็น "visual/interaction evidence ตาม ladder" (เหลือ 0 จุด)
- 🟡 README ประกาศ 21 skills ทั้งที่จริง 22 · `.preload-budget` ของ orchestrator คลาด 1 B (refresh หลัง tools: เปลี่ยน) · **CI #12 path checker จับ path ที่มี placeholder ไม่ได้** (regex ต้องเจอ backtick ทันที) → เปลี่ยนเป็นจับ `` `<bucket>/...` `` แบบกว้างแล้วข้าม entry ที่มี `< > * ? { }` — จับ broken ref เพิ่มได้ทันที 1 จุดใน README

**ยังไม่แก้ (บันทึกไว้ตัดสินใจ)**: preload margin เหลือ 76-487 B ต่อ agent (ratchet ทำงานตามเจตนา แต่ไม่มี headroom) · 7 domain expert ถือสำเนา 58 บรรทัดที่เหมือนกัน 100% โดยไม่มี CI คุม drift (trade-off ที่ยอมรับเพื่อลด preload) · กฎ "SKILL.md ≤ 12 KB" ใน `CLAUDE.md` **ถอดออกแล้ว** — ไม่เคยมี CI ตรวจและมี 7 ไฟล์เกินมาตลอด; ของที่ถูก preload คุมด้วย budget #16 อยู่แล้ว ที่เหลือคุมด้วย line cap

---

### ✨ Added
- **Spec axis ใน `review-checklist`** — แกนที่ 2 ข้าง Standards (Chris 7-dim): รายงาน requirement ที่ขาด/ทำครึ่ง · behaviour ที่ spec ไม่ได้ขอ (scope creep) · requirement ที่ implement ผิด. รันเป็น **sub-agent แยก** ไม่ให้ context ปนกัน และ **ห้าม merge/rerank ข้ามแกน** (code ที่ standards ผ่านครบแต่ทำผิดเรื่อง = Standards PASS / Spec FAIL — รายงานรวมกันแล้วแกนหนึ่งบังอีกแกน)
- **Pin fixed point** ใน Required inputs — `git rev-parse` + `git diff <base>...HEAD` (three-dot, merge-base) + `git log` ก่อน fan-out; ref พังหรือ diff ว่าง → fail ตรงนั้น ไม่ใช่ไปตายใน sub-agent
- **`references/patterns/durable-agent-runtime.md`** — contract ของ runner ที่ Aaron generate (เดิม `CLAUDE.md` สั่งให้ generate runner ที่มี retry/checkpoint แต่ไม่มีที่ไหนนิยามว่าต้องมีอะไร = Aaron เดา): journal/step record · replay ที่ไม่รัน side-effect ซ้ำ · idempotency key ที่ tool boundary · version stamp · HITL approval hash · crash-injection test · platform landscape (Temporal/Inngest/DBOS/Restate) + เกณฑ์ว่าเมื่อไหร่ **ไม่ต้องมี** durable engine (YAGNI)
- **Run Durability ใน `shode-house-workflow`** — run stamp (plugin version + model ต่อ run) · **approval ผูก artifact sha** (artifact เปลี่ยนหลัง approve = approval เป็นโมฆะ) · resume protocol (notes มีแต่ไฟล์ไม่มี = ยังไม่เสร็จจริง; R0 ที่ทำไปแล้วห้ามทำซ้ำโดยไม่ถาม)
- **✂️ `decompose` skill ใหม่ (skills/workflow/)** — epic → leaf task ที่ลงมือได้. ปิดกฎที่ลอยอยู่: `shode-house-routing` เขียนว่า *"XL = cross-service/cross-domain → split into smaller bd"* แต่ **ไม่มี step ไหนในทั้ง pipeline ที่ทำ split จริง** — `/design-system` สรุปว่างานเป็น XL มี 4 module แล้วเดินออกไปเป็น **bd ใบเดียว** ให้ `/implement` รันรวด
  - **tracer bullet** เป็นเกณฑ์ตัดสิน: leaf 1 ใบตัดทะลุทุก layer + merge เดี่ยว ๆ แล้วต้องมีคนได้อะไร (horizontal slicing = anti-pattern เดียวกับที่ `dev-gate` ห้ามในระดับ test แต่นี่คือระดับ backlog)
  - **เกณฑ์ "เล็กพอหรือยัง" ที่ตรวจได้** — INVEST ของ Bella มี "Small" แต่ไม่เคยมีตัวเลข: 1 leaf = 1 pipeline run · AC ≤ ~5 · module เดียว · verify ได้ด้วยตัวเอง · ชื่อเป็นกริยาของผู้ใช้ไม่ใช่ชื่อ layer
  - **blocking edge ประกาศตอนสร้าง** + **create-then-wire 2 pass** + `bd ready --json` verify (ว่าง = cycle หรือ edge ปลอม) — เดิม `--blocked-by` โผล่แค่ในตัวอย่างของ Bella ไม่ได้เป็นกฎ `drain` จึงต้องมาไล่ verify independence เอง
  - แยกให้ชัดจาก priority: edge ที่ตอบไม่ได้ว่า "ใบหลังพังตรงไหน" = edge ปลอม ทำให้ `bd ready` ว่างทั้งที่ทำขนานได้
  - wire: `/design-system` **Step 3.5 Decompose** (conditional XL) · routing (กฎ XL ชี้มาที่นี่) · Bella (story splitting) · Oliver/Patrick skill-loading · `drain` Required inputs · CI #11 regex
  - **ทำไมเป็น skill ลอยไม่ใช่ section ใน routing**: routing ถูกโหลดทุกครั้งที่ triage แต่การแตกงานใช้นาน ๆ ที + มีเจ้าของ 5 คนข้าม phase → เกณฑ์ใหม่: *reference file* เมื่อมีเจ้าของ 1-2 คนที่ถือ pointer อยู่แล้ว (wayfinding) · *skill ลอย* เมื่อหลายเจ้าของข้าม phase และต้องการ trigger ของตัวเอง
- **🗺️ Map mode (`shode-house-workflow/wayfinding.md`)** — ช่องที่ pipeline เดิม **ไม่มีเลย**: ระหว่าง "ไอเดียก้อนใหญ่ที่ยังมองไม่เห็นทาง" กับ "มี item concrete พอให้ `drain` รัน". `/design-system` สมมติว่ารูปงานนิ่งแล้ว (ใช้กับ fog = ได้ spec ยักษ์ที่เขียนจากการเดา), Patrick Phase 0 ตัดสินแค่ *ควรทำไหม*, `drain` ต้องการ ready set ที่มีอยู่แล้ว. adapted จาก [mattpocock/skills · wayfinder](https://github.com/mattpocock/skills) (MIT) port ไป `bd`:
  - **Map = bd issue เดียว** + **decision ticket** เป็น child (ticket ที่ผลลัพธ์คือ *การตัดสินใจ* ไม่ใช่ชิ้นงาน) · blocking ใช้ native `bd link` เพื่อให้ `bd ready` คำนวณ frontier ให้เอง
  - **Fog of war** — แผนที่ไม่สมบูรณ์โดยตั้งใจ; เกณฑ์ ticket-vs-fog คือ **ตั้งคำถามให้คมได้ตอนนี้ไหม** ไม่ใช่ตอบได้ไหม; ปิด ticket แล้วค่อย graduate fog ทีละก้อน
  - **Out of scope section** = ที่บันทึกของ Philosophy #4 SCOPE DRIFT ซึ่งเดิมเป็นกฎเฝ้าระวังที่ **ไม่มีที่ให้เขียนว่า "อันนี้ตัดออกแล้ว"**
  - **Ticket type → agent**: research (AFK, domain expert/Sara) · prototype (HITL, Uma/Dave throwaway) · grilling (HITL, frontier model ของ v3.11) · task (unblock decision, Aaron/owner) — HITL/AFK **ต่อ ticket** ละเอียดกว่า Engagement Mode ที่ตั้งครั้งเดียว
  - 🔴 **1 ticket ต่อ 1 session** (ยกเว้น research ที่ fan-out ได้) · 🔴 **เรียก ticket ด้วยชื่อ ห้ามเรียกด้วย `bd:42`** ในสิ่งที่คนอ่าน
  - wire เข้า Oliver (ถือแผนที่) + Patrick (destination + scope) + `/design-system` (guard ตอนเปิด command)
- **`dev-gate`**: § Seams ต้อง confirm ก่อนเขียน test (coverage บอกว่า test เยอะพอ ไม่ได้บอกว่าถูกที่) · 3 anti-pattern (implementation-coupled / **tautological** / horizontal slicing → vertical slice + tracer bullet) · **deep module** ใน Gate 0 (deletion test · 1 adapter = seam สมมติ, 2 = seam จริง · interface คือ test surface)

### 🐛 Fixed
- **`diagnose` เริ่มผิดจุด** — Step 1 เดิมคือ "Reproduce" ซึ่งบอกให้ทำแต่ไม่บอกว่าทำยังไงตอนทำไม่ได้. เปลี่ยนเป็น **สร้าง feedback loop ที่ tight + red-capable** พร้อมบันได 10 วิธี และ **completion criterion ที่ตรวจได้**: ต้องมีคำสั่งเดียวที่รันไปแล้วจริง + paste output ก่อนขึ้น Step 2; อ่าน code เพื่อตั้งทฤษฎีก่อนมีคำสั่งนั้น = STOP
- **`diagnose` ไม่มี minimise** — เพิ่มขั้นย่อ repro จนทุกองค์ประกอบ load-bearing (ลด hypothesis space + ได้ regression test สะอาดฟรี)
- **hypothesis ไม่ falsifiable** — เดิม "เขียนสมมติฐาน 2-3 ข้อ"; ตอนนี้ 3-5 ข้อ **ranked ก่อนทดสอบข้อแรก** + บังคับรูป prediction + โชว์ list ให้ user (ไม่ block ถ้า AFK)
- **debug log ไม่มีกลไกเก็บกวาด** — Universal Rule ห้าม `console.log` ติด prod มานาน แต่ไม่มีวิธี; ตอนนี้ทุก debug log ใส่ `[DEBUG-xxxx]` → cleanup = grep prefix เดียว + paste ยืนยันว่าไม่เหลือ
- **🔒 ไม่มีกฎ redact** — evidence protocol บังคับ paste tool output/artifact แต่ไม่เคยบอกให้ลบ secret; log/HAR/curl พก auth header + PII มาด้วยเสมอ. เพิ่ม § Redact เป็นส่วนแรกของ `diagnose`
- **`drain` ไม่ได้บอกว่า tree ที่ conflict ค้างกลางคันไปไว้ไหน** — เดิมมีแค่ "จัดกลุ่มใหม่ รันรอบใหม่"

### 🪶 Changed
- **`drain` conflict protocol — ขยายของเดิม ไม่ใช่เพิ่มของใหม่** (แก้ถ้อยคำหลัง independent review): HEAD มีกฎอยู่แล้ว 2 บรรทัด (`:18` group by file-locality กัน conflict · `:127` "conflict = grouping ผิด → หยุด จัดกลุ่มใหม่ ห้าม hand-merge เงียบ ๆ"). ที่เพิ่มจริงคือ **กลไก**: `--abort` ปลอดภัยเฉพาะที่ step นี้ (งาน verified อยู่บน `fix/<id>` ครบ) · ตารางเลือก abort-vs-resolve ด้วยจำนวน item ที่ต้องรันซ้ำ · ถ้า resolve ต้องอ่าน primary source ทั้งสองฝั่ง + แนบ diff · ยกเป็น invariant #9
- **แตก `shode-house-workflow` 4,716 → 2,399 tok** (19,691 → 10,235 B) — Smart Coop Pattern (61% ของไฟล์, ใช้เฉพาะตอนรัน pipeline) → `smart-coop.md`; tracker options + Handoff Contract ที่ซ้ำกับ `shode-house-discipline` ตัดออก
- **CI check #16 ไม่มี exception อีกต่อไป** — Oliver 40,378 → **30,922 B** อยู่ใน budget 31,000 B (margin 78 B) เท่าทุก agent (v3.11 ต้องยกเว้นให้ที่ 41,000 B)
- `review-checklist`: REVIEW report template + Loop Routing + Domain routing → `report-format.md` (output template = reference ใช้ตอนท้าย ไม่ต้องแบกใน preload)
- fan-out 19 agent: **165,778 tok** (v3.11 = 165,262 · v3.10 = 195,794) — preload 110,165 tok
- `diagnose` + `review-checklist` แปลงบล็อก "ห้าม" เป็น **positive form** (per `writing-for-agents`: การสั่งด้วยข้อห้ามดึงพฤติกรรมต้องห้ามเข้า context และเป็น modifier ที่อ่อน)

### ⚠️ หมายเหตุสำหรับรุ่นถัดไป
Preload margin เหลือน้อยมาก — Oliver **78 B** · Chris/Quinn/Sentinel 201 B · อีก 7 ตัว 487 B. การแก้ skill ที่ถูก preload ครั้งหน้า **ต้องย้ายของออกก่อน** ไม่ใช่แก้แล้วค่อยดู CI

---

## [3.11.0] — WCAG 2.2 ที่มี check จริง + preload rebalance + design-intel lookup layer — 2026-09-01

> **Root cause รอบนี้มี 2 อย่าง**: (1) กฎที่ประกาศไว้แต่ไม่มีเครื่องมือรองรับ (2) ของที่ทุก agent แบกทั้งที่ใช้จริงไม่กี่ตัว — v3.10 เปิดทางให้ agent โหลด skill เองได้แล้ว แต่ **เนื้อหา preload ยังไม่ได้ rebalance ตาม**

### 🐛 Fixed
- **WCAG 2.2 AA = claim ที่ไม่มี check รองรับ** — `agents/ux-ui-designer.md` (2 จุด) · `skills/ui/ui-test` · `commands/design-system.md` เขียน "WCAG 2.1/2.2 AA" รวม 4 จุด แต่ไม่มี success criterion ของ 2.2 อยู่ที่ใดใน repo และ axe-core ก็ auto-detect ข้อเหล่านี้ไม่ได้ → เพิ่ม 2.4.11 / 2.5.7 / 2.5.8 / 3.3.7 / 3.3.8 พร้อมวิธีตรวจต่อข้อ + บังคับเขียน `N/A: <SC> — ไม่มี <องค์ประกอบ>`
- **`ui-test` § a11y coverage** — ระบุชัดว่า axe ครอบ 2.1 เป็นหลัก (~30-40% ของ SC ทั้งหมด) และ **"axe 0 violations" ≠ "WCAG 2.2 AA ผ่าน"**; แบ่งความรับผิดชอบ 3 ชั้น (axe CI / Playwright assertion เขียนเอง / manual + paste evidence)
- **AI Persona Disclaimer preload ผิดกลุ่ม 100%** — กฎอยู่ใน `shode-house-deliverable` ที่ domain expert **ทั้ง 7 ตัวไม่ได้ preload** (frontmatter มีแค่ discipline + evidence) → กฎไปไม่ถึงกลุ่มเป้าหมาย ขณะที่ **7 agent** ที่ไม่ใช่เป้าหมายแบกไว้ทุก spawn. ย้ายลง agent file ของ 7 expert
- **`tokens.json` drift ข้าม bd** — เดิม design token เป็น artifact ราย bd ไม่มี source of truth ระดับ project → bd คนละใบให้ค่าต่างกันได้โดยไม่มีใครจับ. แก้ด้วย MASTER.md + pages/ override

### 🪶 Changed — preload rebalance (155k → 111k tok ต่อ fan-out 19 agent, -29%)
- `shode-house-discipline` 3,763 → **2,803 tok**: Recite Card → main session เท่านั้น (output-style `oliver.md` §1 มีอยู่แล้ว; subagent ไม่มี first response กับ user) · Response Language ตัดส่วน main-session เหลือ core + verbatim list · No Man-Day → `orchestrator` + `product-manager` · ตาราง skill-loading → agent file ของตัวเอง (เดิมทุกตัวแบก row ของอีก 18 role) · Clarifying → 4 agent ที่ grill จริง
- `shode-house-evidence` 2,253 → **1,079 tok (-52%)**: UX Evidence → Uma · Domain Evidence → 7 domain expert · REVIEW Report Format → ตัดทิ้ง (`review-checklist` ประกาศตัวเป็น DRY source-of-truth อยู่แล้ว = duplication)
- `shode-house-deliverable`: Postmortem Template → `incident` skill (ใช้เฉพาะตอน incident)
- Clarifying ที่ย้ายออกไป upgrade เป็น **frontier model**: design tree → ถามทั้ง frontier รอบเดียว (recommended answer ทุกข้อ) → คำถามที่ขึ้นกับข้อที่ยังเปิด = รอบถัดไป → dispatch sub-agent หา fact แบบ **ไม่ block** → จบเมื่อ frontier ว่าง

### ✨ Added
- **`references/design-intel/`** — lookup layer ของ Uma (1.2 MB บนดิสก์, **preload 0 tok** เพราะข้อมูลไม่เข้า context เข้าเฉพาะผล query). vendored subset ของ `nextlevelbuilder/ui-ux-pro-max-skill` (MIT): 192 product palette · 74 font pairing · 119 UX guideline (ครอบ WCAG 2.2) · 88 style · 15 stack · GSAP preset · 25 chart type
  - ตัดจาก upstream 2.5 MB → 1.2 MB: `phosphor-icons-upstream.json` + `google-font-licenses.json` (เป็น input ของ refresh tooling ไม่ใช่ของ search) · google-fonts เหลือ 250 แถว · stack เหลือ 15 ตัวที่ทีมใช้ · ตัด `validate_data.py` + `scripts/tests/`
  - **`scripts/check_contrast.py`** (เขียนเอง) — gate **catalog → evidence**: palette จาก catalog = *ข้อเสนอ* ยังไม่ใช่หลักฐานจนกว่าจะผ่าน WCAG. จับของจริงได้ตั้งแต่รันแรก — palette ของ catalog เองมี `Border #BFDBFE` บน `#F8FAFC` = **1.36:1** ตกเกณฑ์ non-text 3:1
  - Uma Phase 1b ขั้น 2.5: **stack detection ห้ามเดา** (hardcoded default = misroute ทุกคำแนะนำแบบเงียบ ๆ) · **design dials** variance/motion/density แทนคำถามเปิด · **MASTER.md + pages/ override** · `--force` = R0
- **CI check #16 preload budget** — ratchet เป็น byte (bash-only, ไม่พึ่ง Python ตามกฎ dev-loop): 31,000 B ต่อ agent, orchestrator 41,000 B. ขึ้นไม่ได้ ลงได้อย่างเดียว — เพิ่ม section ใน skill ที่ถูก preload = CI แดง
- **CI check #17 design-intel integrity** — scripts + CSV หลัก + README ต้องอยู่ครบ และ Uma ต้องอ้างถึง มิฉะนั้น Phase 1b lookup จะ no-op เงียบ

### 📎 Attribution
- [mattpocock/skills](https://github.com/mattpocock/skills) (MIT) — frontier clarifying model
- [nextlevelbuilder/ui-ux-pro-max-skill](https://github.com/nextlevelbuilder/ui-ux-pro-max-skill) (MIT) — design-intel data + search engine

### ⏭️ ยังไม่ทำ (ตอนนั้น) → ✅ ทำครบใน [3.12.0]
- ~~แตก `shode-house-workflow`~~ · ~~`diagnose` feedback-loop-first + redact~~ · ~~`review-checklist` Spec axis + pin fixed point~~ · ~~`drain` conflict protocol~~

---

## [3.10.1] — fix: Oliver output style skipped the Recite Card + tag prefix — 2026-08-01

> **Measured on a real Cowork session.** `force-for-plugin: true` worked (Oliver took over the main loop) but the first response carried neither the Recite Card nor `[Oliver|state:...|bd:...]`.
> Cause: the style's own § Report Brevity said "no preamble" and sat *after* § Recite, so the card read as preamble and lost (consistent with IFScale later-instruction dominance).

### Fixed
- Recite Card + tag prefix moved to the **top of the style, above everything**, and made unconditional: they fire even when the user only says hi or asks a one-liner
- Report Brevity now carries an explicit carve-out: Recite Card, tag prefix and handoff line are **not preamble** and may never be trimmed
- Card no longer duplicated inside the style (was top + section 1)

> Also confirms what v3.10.0 could not: **Cowork does support plugin output styles and `force-for-plugin`.**

---

## [3.10.0] — enforcement repair (Skill tool + tool defects) + Oliver output style + report brevity — 2026-08-01

> **Root-cause release #3.** v3.8 แก้ "discipline ไปไม่ถึง subagent" ด้วย `skills:` preload แต่แก้ไม่หมด: agent ทุกตัวระบุ `tools:` แบบ explicit โดยไม่มี `Skill` ซึ่ง [docs/en/sub-agents](https://code.claude.com/docs/en/sub-agents) ระบุว่าเท่ากับ **ห้าม subagent โหลด skill ใด ๆ** → 12 จาก 19 skill ไม่เคยถึง agent เลย

### 🐛 Fixed
- **`Skill` เพิ่มใน `tools:` ครบ 19 agents** + CI check #14 กัน regression
- **Tool defects**: Oliver +`Bash` (เป็นเจ้าของ `bd`/`git worktree`/M8 `bd show` แต่รันไม่ได้) · Bella + Patrick +`Grep`+`Glob` (NO MAGIC บังคับ cite ด้วย Glob/Grep) · Stan +`Write`+`Edit` (Handoff Contract บังคับเขียน artifact)
- **Recite Card 2 เวอร์ชันขัดกัน** (v3.1 ใน `meeting` / v3.5 ใน `discipline`) → source เดียว
- **`dev-gate` 7 vs 11 gates** · **5 commands hardcode "ภาษาไทย"** ขัด mirror-the-user (v3.8) · **README** Phase 7 Learn ที่ลบแล้ว + ชื่อ gate ที่ไม่มีจริง · **`drift`** โฆษณา M1 ที่ย้ายออกไป v3.8 · dead ref `skills/in-progress/…` ใน 17 agent

### ✨ Added
- **`output-styles/oliver.md`** (`force-for-plugin: true`) — Oliver ยึด main session; output style แก้ system prompt ของ main loop โดยตรง ไม่กระทบ subagent
- **Report Brevity** (`shode-house-discipline`, 19/19) — work deep, report short + return format ≤ ~15 บรรทัด
- **`data-migration`** + **`api-contract`** skills · **prompt-injection §** ใน `secure` (0 hits ก่อนหน้านี้ ทั้งที่ 7 agent ถือ WebFetch) · **ADR lifecycle §** ใน `deliverable` (`Superseded by` = 0 hits ก่อนหน้านี้)
- CI check #15 (output-style frontmatter) · `make pack` ship `output-styles/`

### 🔄 Changed
- ย้ายเข้า `shode-house-discipline` (ถึง 19/19): Handoff Contract (เดิม preload 1/19) · Agent Tag Prefix (เดิม 0/19) · Close-on-Done M8 · Skill-loading map
- ย้ายออกจาก `shode-house-discipline` (ไม่ใช่ของทุกคน): Engagement Mode + phase-orchestration → `shode-house-workflow` · Universal UX/UI rules → `ui-test`
- **`shode-house-discipline` 20,097 → 16,245 B = -71 KB ต่อ fan-out 19 ตัว**; No Man-Day 34→7 บรรทัด, Clarifying 82→17, PEV ASCII diagram ใน workflow → 8 บรรทัด

> Skill 19 → **21**. Bias Discipline **ไม่ถูกแตะ** — ตรวจแล้วทั้ง 19 บล็อกเนื้อหาต่างกัน ไม่ใช่ copy ซ้ำ

---

## [3.9.0] — backlog drain (worktree fan-out + serial merge) + M8 Close-on-Done Guard — 2026-07-30

> **Root-cause release #2.** ปิด 2 failure mode ที่วัดได้จริง: (1) **stale-open bd** — งานเสร็จ merged แล้วแต่ไม่มีใครปิด issue -> backlog โกหก รอบถัดไปทำซ้ำ (2) **git race / tree collision** ตอน agent หลายตัว commit บน trunk พร้อมกัน

### ✨ Added

- **`drain` skill** (`skills/ops/drain/`) — orchestration pattern สำหรับ backlog ที่ **verified แล้ว**: verify set (`bd show` ทีละตัว — `bd list` ไม่นับ) -> Oliver route + **group by file-locality** -> fan-out 1 worktree-isolated agent ต่อ item (TDD, unit test เท่านั้น, commit บน `fix/<id>`, **ห้าม push**) -> main loop `git cherry-pick` **serial** -> 1 aggregate fast-gate -> 1 push -> `bd close` ทุก item พร้อม evidence. 8 invariants + `When NOT to use` + `Required inputs — refuse without` + Skill composition ครบตาม repo invariant
- **`skills/ops/drain/workflow-template.js`** — Runner A (Workflow tool) parameterize `ITEMS`; guard `ITEMS.length === 0` และ `> 20`. Runner B = `Task` tool fan-out (Claude Code default) ใช้ COMMON brief เดียวกัน
- **M8 — Close-on-Done Guard** (`shode-house-drift`) — งาน land แล้วต้อง `bd close <id> --reason "<verdict> <commit_sha> <test_result>"` -> `bd show <id>` -> **paste output**. Can/Can-NOT table ต่อ agent; `PARTIAL`/`BLOCKED` **คง OPEN** พร้อม note (no false close); `FALSE_POSITIVE` ปิดเป็น invalid พร้อม proof

### 🔄 Changed

- **DoD** (`shode-house-deliverable`) — เพิ่มข้อ **bd CLOSED with evidence**; code merged แต่ bd ยัง OPEN = ยังไม่ done. Anti-Puppet list เพิ่ม "ปิด bd แล้ว" (ไม่มี `bd show`) เป็น pattern ต้องห้าม
- **`shode-house-workflow`** — Phase 4 Triage post-hook บังคับ close-with-reason + `bd show` re-confirm; tracker table (beads) แสดง `--reason` + verify step; Worktree Isolation ชี้ไป `drain` สำหรับ batch backlog; อ้าง Drift Defense เป็น M1-M8
- **`/implement`** — Step 7 Triage เพิ่ม `--reason` + `bd show` gate; rule ใหม่ #10 (Close-on-Done) + #11 (batch -> `drain` ไม่ใช่ `/implement` ซ้ำ)
- **Oliver** (`agents/orchestrator.md`) — bd close section เพิ่ม M8 requirement + ห้ามจบ run ที่มี item FIXED แต่ bd ยัง OPEN
- **CI gate check #11** — เพิ่ม `drain` ใน cross-ref alternation

> Skill count 18 -> **19** (ops bucket 3 -> 4). `drain` ไม่ถูกใส่ใน `skills:` frontmatter ของ Oliver — เพดาน <= 3 skill/agent (CLAUDE.md) ยังคงอยู่; เรียก on-demand ผ่าน `/shode-house:drain`

---

## [3.8.0] — 🔴 fix: discipline never reached subagents (skills preload + handoff contract) — 2026-07-20

> **Root-cause release.** Diagnosis: `docs/DIAGNOSIS-agent-coordination-drop.md`

### 🐛 Fixed — the coordination-drop root cause

- **`skills:` frontmatter on all 19 agents** — ก่อนหน้านี้ **0/19** agents โหลด discipline ได้เลย: ไม่มี `Skill` ใน `tools:` (0/19), ไม่มี `skills:` frontmatter (0/19), ไม่มี hook layer, และ CLAUDE.md ที่ auto-load เข้า subagent เป็นของ **target project** ไม่ใช่ของ plugin repo. `meeting/SKILL.md:40` สั่งว่า "ทุก agent ต้องโหลดอย่างน้อย `shode-house-discipline`" ซึ่ง **ทำไม่ได้ในทางกายภาพ** → Recite Card / 5 Philosophy / evidence protocol / Phase Contract / drift defense หายทุกครั้งที่ `Task` delegate. Regression นี้เข้ามาตั้งแต่ v3.1 ที่แตก god-skill เป็น lazy-load skills. `skills:` inject **full content เข้า subagent ตอน startup** — เปลี่ยนจาก convention เป็น enforcement
- **M1 Ingress Guard ย้าย `shode-house-drift` → `shode-house-discipline`** — M1 บังคับที่ *ทุก* agent แต่ `drift` เป็น Oliver-only skill ที่ agent อื่นไม่ preload. `drift` เหลือ M2–M7 (Oliver enforcer). ลบ duplicate header ที่ค้างอยู่ด้วย

### ✨ Added

- **Handoff Contract** (`shode-house-workflow`) — phase artifact ต้องอยู่ในไฟล์; delegation ส่ง **path ไม่ส่งเนื้อหา**; producer return = structured conclusion + artifact path (ห้าม dump transcript กลับ orchestrator); delegation message ต้องมี bd-id + paths + phase + iter เสมอ (sub-agent ไม่เห็น conversation history). ปิด "game of telephone" — inter-agent misalignment ≈ 37% ของ multi-agent failure (MAST, arXiv:2503.13657)
- **Response Language rule** (`shode-house-discipline`) — ทุก agent **ตอบภาษาเดียวกับที่ user เขียนมา** ไม่ fix ไทย ไม่ fix อังกฤษ; เปลี่ยนตาม message ล่าสุด; user สั่งชัดเจน = override. Verbatim ห้ามแปล: code/path/command/log, Recite Card, tag prefix + handoff line, regulation cite, bd field + phase/gate name
- **Language momentum trap guard** — 🔬 **measured defect**: smoke test v3.8 (Dave + Chris, prompt ภาษาอังกฤษ) → Chris ตอบอังกฤษ ✅ แต่ **Dave ตอบไทย ❌** ทั้งที่ preload rule เดียวกัน. สาเหตุ: Recite Card (ไทย verbatim) + agent prompt body (ไทย) มาก่อน → ลากภาษาทั้ง response (สอดคล้อง IFScale "bias towards earlier instructions"). เพิ่ม explicit rule: card + agent-file language **ไม่นับเป็น signal**, ตัดสินจาก user message เท่านั้น + self-check ก่อนส่ง
- **CI gate check #13** — ทุกชื่อใน `skills:` ต้อง resolve เป็น shipped skill + ห้ามชี้ `in-progress/` หรือ `deprecated/` + ต้องมี `shode-house-discipline` ขั้นต่ำ. **จำเป็นเพราะ Claude Code ข้าม skill ที่หาไม่เจอแบบเงียบ ๆ** (log ลง debug เท่านั้น) → ไม่มี check นี้ = regression กลับมาโดยไม่มีใครรู้

### 🔄 Changed

- `shode-house-workflow` trim (prompt-template + why-blocks) เพื่อคง invariant ≤ 300 บรรทัด หลังเพิ่ม Handoff Contract
- **`ADOPT-loop-engineering-proposal.md` #5 ประเมินผิด** — เขียนไว้ว่า sub-agent isolation "ทำแบบ emergent อยู่แล้ว แค่ยังไม่ใช่ rule / เสี่ยงต่ำ" ความจริง isolation ทำงาน *แรงเกินไป* จนตัด discipline ทิ้งหมด = root cause อันดับ 1 ไม่ใช่ nice-to-have. #1 circuit-breaker + #2 learning-loop เลื่อนไปหลังวัดผล v3.8

---

## [3.7.0] — no-Python dev-loop + content reconciliation + loop-engineering doc — 2026-06-27

### ✨ Added

- **Inline CI gate** (bash + jq) in `.github/workflows/ci.yml` — replaces `check_index.py` + `lint.py` with **no script file at all** (runs only on GitHub, never on a contributor's machine). Mirrors every fail-contributing check (skill size, excluded/shippable buckets, Cowork desc caps + ASCII, agent model + Fable-5 whitelist, model-table single-source, manifest array-of-path-strings, JSON syntax, frontmatter name/description, name==folder, cross-ref + path-ref resolution). Parity-tested: passes clean repo, fails on injected violations.
- **`Makefile`** — no-Python dev-loop: `make pack` (zip artifact, same include/exclude set as old builder) · `make stats` · `make skills`.
- **`docs/ADOPT-loop-engineering-proposal.md`** — maps 2026 loop-engineering patterns onto shode-house; proposes circuit-breaker, bounded-execution, Reflexion `learning-loop` promotion, reward-hack guard, sub-agent isolation.

### 🔄 Changed / 🐛 Fixed

- **No Python, no script files** — removed `scripts/` entirely (check_index, lint, build_plugin, publish, setup_precommit, list_skills, harvest_shortcuts, caveman_stats, _lib), `tests/` (pytest), `eval/validate_fixtures.py`, `pytest.ini`. `.pre-commit-config.yaml` now stock hooks only (no custom local script runs on commit — this was the source of the local "popup"); the gate is inlined in `.github/workflows/ci.yml` and runs only on GitHub.
- **All 19 agents** now reference `shode-house-evidence` (was 2/19) — CLAUDE.md invariant satisfied.
- **Stale-detail fixes** — removed dead "Phase 7 Learn" (staff-engineer); `15 agents` -> `19` (deliverable); persona disclaimer made model-agnostic (was hardcoded "May 2025"); stripped ~16 `v2.x` version-archaeology stamps from `implement.md` + `shode-house-workflow`; README/CLAUDE/meeting version labels reconciled.
- **CLAUDE.md** — prerequisites, dev-loop, build invariant rewritten for the no-Python toolchain.

> Shipped content: agent evidence refs + skill content trims only. Dev-loop migration is build/CI infra (not shipped in `.plugin`).

---

## [3.6.5] — quality harness: dev-loop tests + CI + manifest array guard — 2026-06-26

### ✨ Added

- **`tests/`** (dev infra, ไม่ ship) — pytest suite สำหรับ dev-loop scripts; 27 cases, good+bad fixture ต่อ Cowork-critical invariant (desc length/ASCII, model whitelist, skill size + thin-entry exception, manifest array form). พิสูจน์ว่า enforcement layer ยัง enforce จริง
- **`.github/workflows/ci.yml`** — gate ทุก PR/push: `check_index.py` + `lint.py` + `pytest` + `eval/validate_fixtures.py`
- **`eval/`** (foundation, ไม่ ship) — quality harness ตาม bd-101: `fixtures/{triggers,routing,failure_modes}.yaml` (24 cases, seed จาก pilot G1-G11), `validate_fixtures.py` (corpus gate, cross-check ชื่อ skill/agent จริง), `README.md` runbook. Scorer = agent-orchestrated (ยังไม่ทำ)

### 🐛 Fixed / 🔄 Changed

- **`check_index.py` check #8** `check_manifest_array_form` — reject object-form `skills`/`commands`/`agents` array (สาเหตุจริงของ v3.1.0 "Plugin validation failed"); บังคับ path string เริ่ม `./`, ห้าม `..`/`\`. ปิด gap ที่ schema check ครอบ description แล้วแต่ไม่ครอบ array shape
- **Hygiene** — `chmod +x` `scripts/caveman_stats.py` + `scripts/harvest_shortcuts.py` (ให้ตรงกับ script อื่น)

> หมายเหตุ: ไม่มี shipped content (skills/agents/commands/manifest) เปลี่ยน behavior — เป็น maintainer/build-gate + dev infra ล้วน. `.plugin` artifact bump version แต่ payload เท่าเดิม

---

## [3.6.4] — learning-loop (self-improving, gated, non-blocking) — 2026-06-15

### ✨ Added

- **`skills/in-progress/learning-loop/`** (ไม่ ship — bake ก่อนเหมือน eval-harness): self-improving loop แบบ Hermes-inspired แต่ gated
  - **Non-blocking guarantee**: HOT path = `bd remember` capture (append-only) + session_start load bounded top-N; COLD path = distill/gate/promote offline (ห้ามใน PEV loop) → loop ไม่สะดุด
  - **Plugin/project split**: lessons store = project artifact (bd-first); method skill + cross-project promote = plugin ผ่าน gate (human + check_index/lint + eval-harness)
  - promote เฉพาะ pattern ข้าม project (recurrence ≥ N); project-only lesson อยู่ project ตลอด (YAGNI, กัน plugin drift)

---

## [3.6.3] — workflow audit: no-overlap / no-gap + pipeline — 2026-06-15

### 🔄 Changed / 🐛 Fixed

- **Phantom agents resolved** (gap): Devon/Mason/Tex อ้างเป็น sole-owner แต่ไม่มีไฟล์ → reassign interim (data/ML = Dave, docs = Bella); สร้าง dedicated agent เมื่อ project ต้องการจริง (YAGNI). sync routing + orchestrator + README + CLAUDE
- **Pipeline parallel** (cross-bd staggered): Sara design chunk N ▸ Dave build chunk N พร้อม Sara design chunk N+1 — ผ่าน chunk-bd + interface contract + WIP cap 2-3 (routing)
- **Multi-bd long-run orchestration**: checkpoint (bd + state.json) + fan-out cap (WIP) + retry (iter++ max 3) + reduce-from-bd; wire harness contract (routing)
- **Harness runner owner** ชัด: Aaron (infra/CI-level) · Dave (app-level)

---

## [3.6.2] — harness contract + brownfield-safe adopt — 2026-06-15

### ✨ Added / 🔄 Changed

- **Runtime guarantee = generate, don't ship**: plugin ดูแลแค่หลักการ+วิธีการ (contract); runner ที่ enforce จริง (fan-out cap/retry/checkpoint/token budget) → **Aaron** generate fit-stack เข้า **target project repo** (infra-level; app-level → Dave; ผ่าน dev-gate) เมื่อมี long-run need
- **Harness contract = บังคับ establish ทุก project** (`/init` rule 11 → `.shode-house/config.yaml`)
- **Oliver Harness Contract Check** (project entry): grep `harness-contract` marker ใน **project ปลายทาง** `./.shode-house/config.yaml` + `./CLAUDE.md`/`AGENTS.md`; ไม่เจอ → บอก user + แนะนำ `/init` (ไม่ auto-generate)
- **`/init` brownfield guard (non-destructive)**: detect git/manifest → ADOPT mode — **check ของเดิมก่อน → reuse → เติมเฉพาะที่ขาด (ask ก่อน) → ห้ามทับ** (ชน → `*.shode-house.new` + ถาม)
- **adopt → append `## Harness (shode-house)` section ใน project CLAUDE.md** = marker + doc ว่า harness ทำอะไร (contract/long-run/tracker/runner/reused+added)

---

## [3.6.1] — harness de-script + bd-first + long-run — 2026-06-15

### 🔄 Changed

- **eval-harness = agent-orchestrated** (no python/sh): ลบ `run_eval.py`; Run Pipeline ใช้ Task tool (subject + judge subagent)
- **Measurement Protocol** (กู้ determinism แบบ non-script): raw-runs table transparency + measurement primitive (`wc`) paste-as-evidence + judge ordinal rubric `{0,.25,.5,.75,1}`
- **Long-run protocol**: map-reduce batch subagent + bd/file checkpoint + idempotent resume + bounded fan-out 3-5
- **bd-first storage**: `/review --debt`, eval output, long-run progress ledger, caveman stats → bd note/issue ถ้ามี `.beads`/bd; ไม่งั้น `.md` fallback (raw runs = file เสมอ)
- **PEV-loop align**: eval-harness WHEN sprint retro → Phase 4 Triage (per-bd)
- **SHODE-HOUSE-MASTER.md** scripts tree: `.sh` → `.py` (สะท้อนจริง + v3.6 scripts)

---

## [3.6.0] — ponytail + caveman adoptions — 2026-06-15

> **Focus**: adopt 7 ideas จาก [ponytail](https://github.com/DietrichGebert/ponytail) (YAGNI-first) + [caveman](https://github.com/JuliusBrussee/caveman) (compression) — ลด code/token, เพิ่ม drift guard

### ✨ Added

- **YAGNI ladder** (dev-gate Step 0): หยุดก่อนเขียน code — need? / stdlib / native / dep เดิม / one-line / minimum. Pointer ใน `agents/developer.md` Implement Loop
- **Lazy ≠ Negligent carve-out** (dev-gate + caveman + developer.md): YAGNI/compression ห้ามตัด validation/data-loss/security/a11y/regulation
- **Deferred-shortcut convention** `shortcut(bd:N): reason; upgrade → path` (dev-gate Gate 3) + `scripts/harvest_shortcuts.py` (debt ledger) + `/review --debt` mode
- **caveman levels** (lite/full/ultra) + **compress-memory-file** sub-mode + **stats mode** + `scripts/caveman_stats.py` (token-saving estimate)
- **3-arm compression eval** (in-progress/eval-harness): baseline / "Answer concisely." / caveman — claim เฉพาะ delta C-vs-B (honest)

### 🔄 Changed

- **`scripts/check_index.py`** เพิ่ม 2 check: (6) agent model frontmatter (allowed value + Fable-5 whitelist + no dated string) · (7) model-table single-source (ห้าม copy model table นอก README — drift guard ตาม CLAUDE.md)
- **CLAUDE.md** เพิ่ม invariant v3.6 (model enforce, new scripts, Lazy≠Negligent) — ประเมิน caveman-compress แล้ว: ไฟล์ terse อยู่แล้ว delta ≈ 0 → ไม่ compress (capability ใช้กับ verbose file อื่น)
- **eval-harness** แก้ owner drift: Evan (reverted v3.3) → maintainer offline
- **eval-harness = agent-orchestrated** (no python/sh): ลบ `run_eval.py`; Run Pipeline ใช้ Task tool (subject + judge subagent) ล้วน; fixtures JSON เก็บไว้ (data, agent อ้างถึง); แก้ fixture path drift (`tests/eval-fixtures/` → `skills/in-progress/eval-harness/fixtures/`)

---

## [3.5.1] — Uma = Design Authority on Fable 5 — 2026-06-11

### 🔄 Changed

- **Uma → `claude-fable-5`** (Fable 5 ตอนนี้ 4 ตัว: Stan, Sara, Sentinel, Uma; Sonnet 12 → 11) — Fable 5 ทำงาน design UX/UI ได้แข็งแรง user ต้องการให้ Uma นำการตัดสินใจ look & feel
- **Design Authority role ใหม่** (agents/ux-ui-designer.md § Design Authority): Uma = final say เรื่อง look & feel / visual direction / interaction pattern + proactive advisory ต่อ Sara (UX impact ของ architecture), Dave (implementation fidelity), Bella (UX acceptance criteria) — boundary ยัง zero-overlap (แนะนำ/veto ได้ แต่ไม่ผลิต deliverable ของคนอื่น)
- Routing skill: Conflict Resolution เพิ่ม row "Look & feel → Uma ชนะ" (ยกเว้นชน a11y law / security / regulation); capability matrix Uma เพิ่ม "Look & feel direction (final say)"
- README Model Strategy + core table + CLAUDE.md model whitelist sync

---

## [3.5.0] — Claude 5 model matrix + fallback + doc-drift cleanup — 2026-06-10

> **Focus**: Revise model ตาม Claude 5 family (Fable 5 ออกแล้ว) + fallback strategy + ล้าง doc drift ที่กิน token / ทำให้สับสน

### 🔄 Changed — Model matrix (19 agents)

- **Fable 5 (3)**: Stan (staff-engineer), Sara (solution-architect), Sentinel (security-engineer) — `model: claude-fable-5` (full string; ยังไม่มี alias `fable` เป็นทางการ). Judgment สูงสุด: cross-team architecture + security
- **Opus (4)**: Felix, Sam, Tara, Iris — keep `opus` alias (ตาม Opus ล่าสุด = 4.8 อัตโนมัติ). Regulated-domain judgment
- **Sonnet (12)**: ที่เหลือ — keep `sonnet` alias (= 4.6)
- **Haiku (0 agent)**: ใช้เฉพาะ mechanical sub-task ผ่าน Task `model` override (status digest, broadcast aggregation, bd hygiene) — doc ใน routing skill § Token-saving
- **Fallback**: README § Model Strategy — settings `"fallbackModel": "opus,sonnet"` (ครอบคลุม subagent, max 3 chain) + budget mode `CLAUDE_CODE_SUBAGENT_MODEL=sonnet`
- **CLAUDE.md invariant ใหม่**: model values whitelist + ห้าม pin dated string + ตาราง model มีที่เดียว (README)

### 🗑️ Removed

- `commands/setup-project.md` + `commands/spec-only.md` — deprecated alias เกิน window ที่สัญญา (ลบใน v3.2 แต่ค้างถึง v3.4.2); plugin description บอก 5 commands แต่ ship 7

### 🐛 Fixed — doc drift (token waste + contradiction)

- `shode-house-routing` skill: ตาราง "ทีม (15 agents)" stale จาก v2.x (ขาด Stan/Patrick/Sentinel/Reggie + model column ขัดกับ README) → แทนด้วย roster 19 ตัวแบบ 1 บรรทัด + pointer ไป frontmatter (single source of truth)
- `shode-house-routing` skill: เติม section ว่าง `## 🔧 Token-saving` (model tier + lazy-load + bd SoT + caveman); ลบ header ว่าง `## 📦 Standard Output Deliverables`, `## 💬 Clarifying`, `## 🆕 New Phases` (เนื้อหาหายตอน split v3.1)
- `shode-house-discipline` skill: ลบ header ว่าง `## 🔁 Workflow Discipline`; Recite Card tag → v3.5
- README: badge 3.1.0 → 3.5.0; "Opus (6)" ขัดกับตารางที่ mark opus 7 ตัว → ตาราง Model Strategy ใหม่; commands section 6+2 → 5

### ⚠️ Known issue — Cowork install (ต้อง verify หลัง release)

- Cache ฝั่ง Cowork ของ v3.4.2 พบ: manifest ถูก strip field `skills`, ไม่มี `agents/` + `commands/` + `skills/workflow/` → skills/agents ไม่โหลดใน session. ถ้า reinstall v3.5.0 แล้วยังไม่โหลด → พิจารณา flatten `skills/` เป็น 1 ระดับ (auto-discovery-safe) ใน v3.6

---

## [3.4.2] — Maintainer scripts .sh → .py (cross-platform) — 2026-05-31

> **Focus**: Convert 6 maintainer `.sh` scripts to Python (`.py`) for cross-platform parity. Python 3.9+ stdlib only (PyYAML optional). Each `.py` warns clearly on Python <3.9.

### 🔄 Changed (Option B — full conversion)

- `scripts/lint.sh` → **`scripts/lint.py`** (8 pre-publish checks; PyYAML preferred, regex fallback)
- `scripts/check-index.sh` → **`scripts/check_index.py`** (5 invariant checks; CLAUDE.md size/bucket/Cowork)
- `scripts/build-plugin.sh` → **`scripts/build_plugin.py`** (uses `zipfile` stdlib; no `zip` binary dep)
- `scripts/list-skills.sh` → **`scripts/list_skills.py`** (tabular skill index)
- `scripts/publish.sh` → **`scripts/publish.py`** (git/gh CLI via subprocess; --branch arg)
- `scripts/setup-precommit.sh` → **`scripts/setup_precommit.py`** (best-effort pre-commit install)
- **NEW**: `scripts/_lib.py` — shared helpers (Python version check + color output + repo_root)

### 🐍 Python prerequisite

- **Python 3.9+** mandatory for repo dev-loop scripts
- macOS/Linux: pre-installed (or `brew install python@3.12`)
- Windows: install from python.org or Microsoft Store
- Each `.py` checks `sys.version_info < (3, 9)` and fails with platform-specific install guide
- Optional: PyYAML for full YAML validation (`pip install --user pyyaml`); regex fallback when missing
- Documented in CLAUDE.md § Prerequisites

### 🔄 Misc updates

- `.pre-commit-config.yaml` — drop shellcheck hook; switch lint hook from `bash scripts/lint.sh` to `python3 scripts/lint.py`
- `CLAUDE.md` — header v3.3.0 → **v3.4.2**, add Prerequisites section
- `README.md` — script names updated (`scripts/{list_skills,check_index,build_plugin,lint,publish}.py`)
- `.claude-plugin/{plugin,marketplace}.json` — v3.4.1 → **v3.4.2**

### 📊 Stats v3.4.2

- Scripts: 6 .sh → **6 .py + 1 _lib.py** (7 total Python files)
- User-facing scripts: 0 (unchanged — agents don't invoke any script)
- Maintainer scripts: now cross-platform Mac/Windows/Linux ✓
- Lint check count: 8 (unchanged)

### 🧪 Smoke tests passed

- ✅ `list_skills.py` — 21 lines output, all skills shown
- ✅ `build_plugin.py` — built `shode-house-v3.4.2.plugin` correctly (71 files)
- ✅ `check_index.py` — all invariants pass
- ✅ `lint.py` — 8/8 PASS (PyYAML available)
- ✅ `publish.py --help` — argparse works
- ✅ `setup_precommit.py` — imports OK
- ✅ `_lib.py` — Python version check + repo_root + color helpers tested

### Migration

- ✅ Backward-compat: old `.sh` deleted; `python3 scripts/<name>.py` invocation
- ✅ pre-commit hook auto-runs lint.py (no manual change)
- ⚠ Contributors: ensure Python 3.9+ available before pre-commit fires

---

## [3.4.1] — Revert workflow script, keep schema in skill — 2026-05-31

> **Focus**: Drop `scripts/workflow_state.py` per v3.3 philosophy (discipline > mechanical layer; same lesson as Evan/sprint revert). Move state.json schema documentation to `shode-house-workflow` skill. Agents use Read/Write tools directly on JSON — no script needed.

### 🗑️ Removed

- **`scripts/workflow_state.py`** — over-engineer per v3.3 philosophy. ~30-40% extra enforcement over discipline didn't justify added complexity + Python dep + script-agent sync risk
- **`scripts/publish-v3.1.0.sh`** — legacy version-specific publish script (use `scripts/publish.sh`)

### 🔄 Changed

- `skills/discipline/shode-house-workflow/SKILL.md` — added **State persistence** section documenting structured `outputs/<bd-id>/state.json` schema (mandatory fields, phase status enum, Oliver bootstrap rule). Fixed duplicate "Lifecycle Hooks" header (cosmetic).
- `.claude-plugin/{plugin,marketplace}.json` — v3.4.0 → **v3.4.1** (description ASCII)

### 📊 Stats v3.4.1

- Scripts: 8 → **6** (drop workflow_state.py + publish-v3.1.0.sh legacy)
- User-facing scripts: 1 → **0** (back to "pure prompt + JSON" philosophy)
- 11 prompt fixes from pilot 001 — **kept** (G1-G4, G7-G8, G10-G11)
- Pilot artifacts under `outputs/pilot-001-refund-iter4/` — kept (reference)

### 🐛 Lessons learned

**Over-engineer creep detected + reverted same day** (similar to v3.2.0 Evan revert):
- workflow_state.py = 250 lines Python to enforce what 30 lines schema doc + discipline rule can cover
- User question "เรามีกี่ script เนี้ย ใช้แค่ json doc handoff เท่านั้นไม่ได้หรอ" = correct intuition
- shode-house = prompt-based discipline; mechanical layer should be **rare + justified**
- This pattern recurring: v3.2 (Evan), v3.3 hooks, v3.4 (workflow script) — all reverted same-day after audit

**Architectural principle (post-v3.4.1)**:
> Default to "agent + structured doc". Mechanical layer only when discipline provably failed via real engagement signal.

---

## [3.4.0] — Pilot fixes + Dynamic Workflow Script — 2026-05-31 (SUPERSEDED by v3.4.1 same day)

> **Note**: v3.4.0 tagged + built but workflow_state.py reverted same day. v3.4.1 = simplification. Tag v3.4.0 kept for git history; do NOT install v3.4.0 (use v3.4.1).

> **Focus**: 11 prompt fixes from real pilot (refund flow full-stack, 4 iterations) + Dynamic Workflow Script (Medium) externalizing state from agent context. Mitigate context rot, enable replay/resume, enforce gate criteria deterministically.

### 🆕 Added

**Dynamic Workflow Script** (Medium — `scripts/workflow_state.py`):
- Python stdlib (cross-platform); 240 lines; no external deps
- Externalize PEV state from agent context → `outputs/<bd-id>/state.json` (structured)
- Commands: `init / status / phases / validate / advance / record / findings / iter-inc`
- Gate validator: blocks `advance` if previous phase status ≠ passed/conditional_pass + artifacts + owners not recorded
- iter > 3 escalation built into `iter-inc` (exit code 2)
- Replaces SESSION-STATE.md (markdown) — legacy fallback kept

**11 prompt fixes from pilot 001** (refund flow full-stack):
- **G1** Oliver M1 Ingress Guard explicit recite mandatory (orchestrator.md)
- **G2** Patrick Never-Does: no Domain SME role-play (product-manager.md)
- **G3** Bella Phase 1a pickup protocol mandatory (business-analyst.md)
- **G4** Sara Project Evidence mandatory + Greenfield handling (solution-architect.md)
- **G7** Felix Domain Evidence cite format + PENDING disclaimer template (fintech-expert.md)
- **G8** Phase 0 CONDITIONAL PASS scope-clarification flow (shode-house-workflow.md)
- **G10** Oliver USER CLARIFY relay packaging (shode-house-workflow.md)
- **G11** Max 2-round clarification cap + escalate (shode-house-workflow.md)
- *(G5, G6, G9 = environment/positive — not prompt fixes)*

**Pilot 001 refund — full report**:
- `docs/pilot-reports/pilot-001-refund-iter4-final.md` — executive summary + 11 findings + v3.4 backlog
- 17 artifact files under `outputs/pilot-001-refund-iter4/` covering Phase 0 → 4 (kept for reference)

### 🔄 Changed

- `.claude-plugin/{plugin,marketplace}.json` — v3.3.0 → **v3.4.0** (description 137 chars ASCII)
- `skills/discipline/shode-house-workflow/SKILL.md` — Session State section rewritten for v3.4 Dynamic Workflow Script approach
- `scripts/lint.sh` — no change (8 checks; workflow_state.py self-tested in smoke)

### 🐛 Lessons learned (from pilot)

**Context rot is real in long sessions**: Oliver maintains markdown state via discipline rule (M6), but multi-hour engagements show drift. Structured JSON externalized to script = mechanical enforcement.

**Simulation limit caught (G9 meta)**: Single Claude role-playing 19 agents in pilot ≠ real multi-agent Task-dispatch. Pilot validated **structural** discipline; real engagement validates **independence**. v3.4 backlog: real engagement pilot.

**Adversary stance works as designed**: Chris/Quinn produced FAIL verdict on Dave's incomplete code (smoke PENDING + IDOR placeholder + webhook missing). Anti-Puppet rule held — no fake PASS. PEV loop correctly routed Phase 2 fix.

**Domain Evidence cite enforcement gap**: Felix's "BOT notice 15-day" without notice number proved Domain Evidence Protocol format existed but enforcement weak. G7 fix tightens per-agent.

### 📊 Stats v3.4.0

- Agents: 19 (no change)
- Skills shipped: 18 (no change)
- Commands: 5 (no change)
- Python scripts: 1 → **2** (+ workflow_state.py)
- Prompt fixes from pilot: **11**
- Pilot reports: 0 → **1** (`docs/pilot-reports/`)

### v3.4 backlog (post-pilot)

| Priority | Item |
|---|---|
| 🔴 1 | Real engagement (validate G9 multi-agent independence via Task-tool dispatch) |
| 🟠 2 | Extend G7 Domain Evidence enforcement to Iris/Sam/Tara/Elena/Brooke/Emma (Felix exemplar replicated) |
| 🟠 3 | Extend G3 pickup protocol to other phase transitions (1b→2, 3a→3b, 4→5) |
| 🟡 4 | Extend G4 Project Evidence to Aaron infra + Sara migrations |
| 🟡 5 | Failure-mode docs 002-009 from pilot patterns |
| 🟡 6 | Heavy workflow engine extension (advance commands → full state machine) |

### Migration v3.3 → v3.4

- ✅ Backward-compatible: existing SESSION-STATE.md keeps working (Oliver discipline rule unchanged)
- 🆕 New bd → use `python3 scripts/workflow_state.py init <bd-id>` (recommended)
- 🆕 Oliver prompt updated to query state.json via script first; falls back to SESSION-STATE.md if no state.json
- No breaking changes for v3.3 users

---

## [3.3.0] — Simplification: drop sprint + Evan, embed bias discipline — 2026-05-30

> **Focus**: Honest audit ของ v3.2.0 ก่อน ship → user feedback ว่า Evan + sprint = over-engineer. v3.3.0 = simplification: drop /sprint command + drop Evan agent + embed bias rules ใน 19 agent prompts. **PEV loop per bd** replaces sprint outer loop. Chris/Quinn ทำงาน adversarial vs Dave + Claude in Chrome verify mandatory. ห้าม agent ประเมิน man-day โดย user ไม่ร้องขอ.

### 🗑️ Removed

- **`agents/evaluator.md` (Evan)** — over-engineer for current scale. Bias detection rules embedded ใน 19 agent prompts แทน (single-source via `shode-house-discipline` + per-agent specifics)
- **`commands/sprint.md`** — sprint outer loop dropped. PEV loop per bd. Continuous OKR review (Patrick) without bracket.
- **Phase 7 (Sprint Learn)** from workflow — per-bd reflect captured in Phase 4 Triage (Oliver `bd remember <lesson>` post bd close)
- **Eval Harness shipped skill** → moved to `skills/in-progress/eval-harness/` (kept as offline tool for maintainer regression test before major bumps; not shipped in plugin.json)

### 🆕 Added

**Universal rules in `shode-house-discipline/SKILL.md`**:
- **§ No Man-Day Negotiation** (3 ห้าม + 4 exception + user-estimate purpose rule). Agent ทำงานไม่ตรงตาม man-day → ห้าม propose timeline / refuse งานเพราะ "ใหญ่เกิน X sprint" / ใช้ man-day ต่อรองเวลา. Exception: user explicit ขอ estimate → for user external report only, ไม่ใช่ agent scope contract.

**Adversary stance + Claude in Chrome (Chris/Quinn vs Dave)**:
- **Chris + Quinn**: `🔴 Adversary Stance` section — pessimistic default, zero trust on Dave's claims, verdict default = FAIL until proven PASS, ห้าม dismiss marginal issue
- **Mandatory Visual Verify via Claude in Chrome MCP** — frontend / API observable / user journey touched = บังคับ open + screenshot + console + network. Headless Playwright ≠ enough.
- **Dave**: `🔴 Adversary-Aware Hand-off` — proactive evidence paste; ห้าม "should be fine" push-back

**Bias discipline embedded in 19 agents** (`## 🎯 Bias Discipline` section per agent) — covers sycophancy, anchoring, pattern-bias, verdict-skew, convergence, alert-dismissal, std-vs-custom per role.

**PEV Loop concept** (replaces sprint outer loop):
- Plan (Phase 0-1c) → Execute (Phase 2) → Verify (Phase 3a/3b) → Triage (Phase 4)
- Deploy (Phase 5) = continuous per bd ready หรือ user manual batch (optional)
- No Phase 7 / sprint retro — per-bd reflect in Phase 4

### 🔄 Changed

- `.claude-plugin/{plugin,marketplace}.json` — v3.2.0 → **v3.3.0**; description 142 chars ASCII; keywords swap (eval-harness/no-bias-eval → pev-loop/bias-discipline/no-sprint)
- `CLAUDE.md` — drop "Eval Harness" section, add "Bias Discipline" + "PEV Loop" sections
- `README.md` — v3.3 banner + workflow diagram refactor (PEV loop) + /sprint marked REMOVED v3.3
- `scripts/lint.sh` — 9 checks → 8 (drop eval-harness fixture dry-run since skill moved to in-progress)
- `skills/discipline/shode-house-workflow/SKILL.md` — Phase Contract diagram = PEV loop; Lifecycle Hooks drop Pre-Sprint + Sprint Close
- `skills/discipline/shode-house-routing/SKILL.md` — drop Eval team + Evan; T-shirt = **internal routing only** (ห้ามส่ง user); add "Adversarial relation: Chris/Quinn vs Dave" table
- `skills/discipline/shode-house-drift/SKILL.md` — Phase 7 marked REMOVED
- `skills/discipline/shode-house-evidence/SKILL.md` — Storage row "bd + sprint close" → "bd close per-bd reflect"
- `skills/discipline/review-checklist/SKILL.md` — add `🔴 Adversary Stance` + `🌐 Mandatory Visual Verify`
- 19 agents — cleanup sprint refs + man-day negotiation removed

### 🐛 Lessons learned

**v3.2.0 over-engineering caught early**: Evan + 19 fixtures + run_eval.py = heavy weight for "regression bias test" when prompt rules can solve 80% directly. User audit: "ทำไม Chris/Quinn ตรวจตัวเองไม่ได้?" → self-preference bias. Better fix = embed bias rules IN Chris/Quinn prompt.

**Sprint = human concept**: Agents don't need sprint time-box. Task-completion natural unit. User insight: "agent ทำงานไม่ตรงตาม manday".

**Adversarial discipline > telemetry detection**: simpler to put verdict-default-FAIL + zero-trust-Dave in prompts than runtime gate.

### 📊 Stats v3.3.0

- Agents: 20 → **19** (drop Evan)
- Skills shipped (plugin.json): 19 → **18** (eval-harness → in-progress)
- Commands: 6 → **5** (drop /sprint, +2 deprecated kept)
- Bias discipline sections in agents: 0 → **19** (1 per agent)
- lint.sh checks: 9 → **8**
- **Host-OS dependency: ZERO**

### Migration v3.2.0 → v3.3.0

- ❌ `/shode-house:sprint` removed → use PEV per-bd flow
- ❌ Evan agent removed → bias enforcement now in Chris/Quinn/Felix/etc. prompts
- ❌ `outputs/EVAL-*.json` no longer produced
- ✅ Eval methodology preserved in `skills/in-progress/eval-harness/` (offline maintainer use)
- ✅ `/sprint close retro` users: per-bd reflect via Oliver `bd remember`

---

## [3.2.0] — Eval Harness + Bias-Aware Regression — 2026-05-30 (SUPERSEDED by v3.3.0 same day)

> **Note**: v3.2.0 was tagged + locally built but reverted same-day after user feedback that Evan + sprint = over-engineer. v3.3.0 = simplification. Tag v3.2.0 kept for git history; do NOT install v3.2.0.

> **Focus**: Bias-aware offline evaluation for all 19 agents. ตอบโจทย์ "งานหลุดคุณภาพ" จากมุม regression test แทน runtime gate — สงสัย agent drift จาก prompt refactor → run eval หา bias profile + compare baseline.
> **Scope: V2 (Spec + runner stub)** — agent + skill + 19 fixtures + Python runner. Real Claude SDK invoke pending.

### 🆕 Added

**1 new agent + 1 new skill**:
- **`agents/evaluator.md`** — Evan (Evaluator). Offline tool, NOT in /implement loop. Orchestrate bias-aware fixture runs + cross-LLM judge + bias profile output. Tools: Read/Write/Edit/Glob/Grep/Bash.
- **`skills/discipline/eval-harness/SKILL.md`** (224 lines) — methodology: 4 bias types (sycophancy/anchoring/pattern-bias/verbosity/position), per-agent bias priority table (19 agents), fixture schema, run pipeline, output JSON spec, calibration step.

**19 starter fixtures** (`tests/eval-fixtures/<agent>/01-*.json`):
- One per agent covering most-relevant bias type:
  - Decision (Chris, Quinn): verdict-skew + sycophancy
  - Domain (Felix, Iris, Sam, Tara, Elena, Brooke, Emma): pattern-bias + anchoring
  - Design (Bella, Sara, Uma): anchoring + pattern-bias
  - Workflow (Oliver, Patrick, Stan, Reggie): sycophancy + convergence/anchoring
  - Dev/Ops (Dave, Aaron): sycophancy + pattern-bias
  - Sentinel: sycophancy on "low risk"

**Runner script** (cross-platform Python stdlib):
- `scripts/run_eval.py` — `--dry-run` validates 19 fixtures schema across all agents; `--agent <name>` per-agent; `--invoke` STUB until Claude SDK harness pending

**No-bias methodology baked in**:
- Multi-run N≥5 per fixture (no single-shot)
- Cross-LLM judge (subject ≠ judge — mitigate self-preference)
- Blind judging (judge sees output + expected_keywords, NOT expected_verdict)
- Order shuffle (mitigate position bias)
- Judge calibration step on golden labels before real run

### 🔄 Changed

- `.claude-plugin/plugin.json` — v3.1.1 → v3.2.0 (description 141 chars ASCII)
- `.claude-plugin/marketplace.json` — v3.1.1 → v3.2.0
- `CLAUDE.md` — Eval Harness section + bucket list updated (eval-harness in discipline/)
- `README.md` — 18 → 19 skills + eval-harness row

### 🐛 Lessons learned

**Wave-based scope creep prior to v3.2.0 revert**: ออกแบบ v3.2.0 ใหญ่ (Quality Gate + Telemetry + Hooks + 5 fixtures + Devil's Advocate + sprint metrics ...) — user revert + replan focused เฉพาะ harness + no-bias. Lesson: **minimum viable feature** > comprehensive feature set; ship narrow + iterate

**Cross-platform from start**: Python stdlib only (no .sh user-facing); runs in Claude Code Bash sandbox regardless of host OS (Mac/Win/Linux)

### 📊 Stats v3.2.0

- Agents: 19 → **20** (+ Evan)
- Skills shipped (plugin.json): 18 → **19** (+ eval-harness)
- Commands: 6 (no change)
- Python scripts (cross-platform): 0 → **1** (run_eval.py)
- Maintainer .sh scripts: 6 (no change)
- Eval fixtures: 0 → **19** (1 per agent starter)
- Bias types covered: **9** (sycophancy, anchoring, pattern-bias, verbosity, position, verdict-skew, convergence, alert-dismissal, std-vs-custom)
- **Host-OS dependency: ZERO** (sandbox-only Python execution)

### ⚠️ Known limitations / scope NOT in v3.2.0

- `run_eval.py --invoke` = STUB. Real Claude SDK invocation pending.
- All 19 fixtures `expert_validated_by: PENDING` — need domain SME sign before baseline promote (CPA/actuary/SAP/OWASP/...)
- Only 1 fixture per agent. Promote requires ≥ 3 fixtures + 2 baseline runs separated by ≥ 1 week
- lint.sh integration: dry-run check optional (added in [11/11] check)
- No web-q / accessibility / security CI deeper integration (deferred to future)
- No telemetry hooks / sprint metrics / Anti-Puppet enforcement (deferred — was earlier v3.2.0 scope, reverted)

### Roadmap (next versions)

- v3.3: judge calibration tooling + Claude SDK wire-up
- v3.4: expand fixtures (3+ per agent) + expert validation drive
- v4.0: Real eval-driven prompt regression (breaking — fixtures become CI gate)

---

## [3.1.1] — Dev Discipline + Lint Gate — 2026-05-27

> **Focus**: ทำให้ "ตอน dev" มีคุณภาพจริงตาม software craft. v3.1.0 มี skill craft refactor แต่ขาดความลึก dev-gate + ขาด lint discipline ที่ระดับ repo. v3.1.1 fix ทั้งสองจุด.

### 🆕 Added

**dev-gate skill — 7 → 11 gates** (`skills/workflow/dev-gate/SKILL.md`):
- **Gate 0: Architecture self-check** (Dave judgment ก่อน hand-off) — SOLID 5 checkbox + cohesion + low coupling + human-readable. ห้าม "Chris จะ review ให้" — Dave ตอบ self-check ก่อน push
- **Gate 2: Organize Imports** (แตกจาก Format) — stdlib/3rd-party/local + alpha sort, ห้าม wildcard
- **Gate 3: Remove Unused** (แตกจาก Format) — unused import/var/function/parameter ต้องลบ
- **Gate 9: Security Lint** (เพิ่มใหม่) — SAST per language + secret scan (gitleaks) + dep audit
- **Per-language tool matrix** — 8 stacks (Py/TS/JS/Go/Java/Kt/Rust/Vue/PHP) บอก tool ที่ใช้ per gate
- **Pre-commit hook examples** — `.pre-commit-config.yaml` ตัวอย่าง Python + TS/JS

**Repo-level lint discipline**:
- `scripts/lint.sh` — comprehensive pre-publish gate (8 checks): JSON syntax, SKILL.md YAML + name+description, command YAML + string argument-hint, agent YAML, SKILL name == folder, cross-refs resolve, path refs in README+CLAUDE, Cowork constraints + invariants
- `.pre-commit-config.yaml` (template สำหรับ shode-house repo เอง) — gitleaks + yamllint + check-yaml + lint.sh
- `scripts/setup-precommit.sh` — bootstrap pre-commit สำหรับ shode-house contributor

### 🔄 Changed

**`scripts/publish-v3.1.0.sh` → `scripts/publish.sh`** (version-agnostic):
- Reads version จาก plugin.json (ไม่ hard-code)
- Step 2 ใช้ `lint.sh` (8 checks) แทน check-index.sh เดี่ยว
- Idempotent: safe to re-run

**Bug fixes ที่ค้นพบจาก lint pass** (v3.1.0 มี bug ที่เกือบ ship):
- `commands/design-system.md` `argument-hint: [a | b] [c] [d]` — YAML parse error (3 flow sequences ติดกัน) → quote เป็น string
- `commands/init.md`, `setup-project.md` — nested quote ใน argument-hint → single-quote wrap
- `commands/{consult,implement,sprint,review,spec-only}.md` — `argument-hint: [bd-id]` parse เป็น list ไม่ใช่ string → ทุกตัว quote
- `README.md` line 384 — stale ref `skills/meeting/SKILL.md` (post bucket migration) → `skills/workflow/meeting/SKILL.md` + `skills/discipline/shode-house-routing/SKILL.md`

### 🐛 Lessons learned

**v3.1.0 publish workflow ขาด lint gate** — เกือบ ship ของ buggy เพราะข้าม VERIFY BEFORE DONE step:
- ไม่มี YAML frontmatter parse check (8 commands พลาด)
- ไม่มี cross-reference check (README path stale)
- check-index.sh check แต่ structural ไม่ได้ check syntax
- **v3.1.1 fix**: `scripts/lint.sh` รวม 8 checks; publish script require pass ก่อน push

**dev-gate ใน v3.1.0 ไม่ครอบ "import/unused/security"** — ทำให้ Dave/Chris อาจ ship ของไม่ครบ:
- Old: 7 gates เน้น format + lint + test
- New: 11 gates เพิ่ม organize-imports + remove-unused + security lint + architecture self-check
- เพิ่ม per-language tool matrix ให้ Dave/Chris pick tool ถูกตั้งแต่ start project

### 📊 Stats v3.1.1

- Skills: 18 (no change)
- Commands: 6 active + 2 deprecated alias (no change)
- dev-gate gates: 7 → **11**
- lint.sh checks: 0 → **8** (gate ก่อน publish)
- Cowork validator constraints in CLAUDE.md: **enforced via check-index.sh + lint.sh**
- Pre-commit hook: ✅ template + setup script

---

## [3.1.0] — Skill Craft Refactor (9arm-inspired) — 2026-05-26

> **Focus**: skill quality + lazy-load + token saving. Keep v3.0 org structure (19 agents in 7 teams) ครบ. Inspired by [`thananon/9arm-skills`](https://github.com/thananon/9arm-skills) skill-craft patterns.

### 🆕 Added

**Repo invariants + dev-loop tooling**:
- `CLAUDE.md` (≤ 30 lines) — repo invariants: bucket convention, 4-section description format, ≤ 300-line SKILL.md limit, command 3-flag rule
- `scripts/list-skills.sh` — list every SKILL.md + lines + bucket + description
- `scripts/check-index.sh` — enforce invariants (CI gate; exits non-zero on violation)
- `scripts/build-plugin.sh` — build `shode-house-v<VERSION>.plugin` zip

**New skill files (8 total — split from meeting + DRY checklist)**:
- `skills/discipline/shode-house-discipline/SKILL.md` — Recite Discipline Card + 5 Philosophy + Safety + Universal Rules + Clarifying (mandatory load for all agents)
- `skills/discipline/shode-house-evidence/SKILL.md` — Project + UX + Domain Evidence Protocol + REVIEW Report Format
- `skills/discipline/shode-house-routing/SKILL.md` — Routing + RACI + T-shirt + Trust Levels + Team v3.0 + Conflict Resolution
- `skills/discipline/shode-house-deliverable/SKILL.md` — DoD + Anti-Puppet + I Never Do + AI Persona Disclaimer + Postmortem template
- `skills/discipline/shode-house-broadcast/SKILL.md` — Agent Tag Prefix + Structured Tag + Caveman Broadcast + Handoff Protocol v3.0
- `skills/discipline/shode-house-workflow/SKILL.md` — Phase Contract + Smart Coop + lifecycle hooks + approval gates + worktree isolation
- `skills/discipline/shode-house-drift/SKILL.md` — Workflow Drift Defense M1-M7 + New Phases v3.0 (0/1c/6/7)
- `skills/discipline/review-checklist/SKILL.md` — Chris 7-dim + Quinn integration matrix + Sentinel security + Domain validation — DRY source-of-truth for `/implement` Phase 3b + `/review`

**Bucket-folder lifecycle** (CLAUDE.md invariant):
- `skills/workflow/` (4 skills) — daily process
- `skills/ops/` (3 skills) — operational discipline
- `skills/ui/` (2 skills) — frontend quality
- `skills/style/` (1 skill) — communication
- `skills/discipline/` (8 skills) — v3.1 split modules + DRY checklist
- `skills/in-progress/` — not shipped placeholder
- `skills/deprecated/` — not shipped placeholder

**Plugin.json — explicit skills + commands list**:
- เพิ่ม `skills` array (18 entries with bucket + role + path)
- เพิ่ม `commands` array (8 entries with role)
- เพิ่ม keywords: `9arm-inspired`, `skill-craft`, `lazy-load`, `bucket-lifecycle`

### 🔄 Changed

**Skill description format — 4-section across ทุก 10 functional skills**:
- เดิม: run-on sentence "ใช้เมื่อ user สั่ง X, Y, Z ..."
- ใหม่: `[WHAT] · [AUDIENCE] · [WHEN] · [TRIGGER]` (9arm-inspired hyper-specific trigger phrases)
- กระทบ: `meeting`, `dev-gate`, `automate-test`, `diagnose`, `incident`, `slo`, `secure`, `ui-test`, `web-q`, `caveman`

**Skill gates — When-NOT + Required-inputs** ใน 5 heavy skills:
- `dev-gate`, `automate-test`, `incident`, `slo`, `secure` — เพิ่ม `## When NOT to use` + `## Required inputs — refuse without` (9arm `post-mortem` pattern)

**Skill composition pointers** ใน 5 skills:
- `diagnose` → `incident`/`dev-gate`/`automate-test`/`ui-test`/`secure`
- `incident` → `slo`/`diagnose`/`dev-gate`/`secure`/`automate-test`
- `secure` → `dev-gate`/`incident`/`web-q`/`automate-test`/`diagnose`
- `dev-gate` → `automate-test`/`ui-test`/`web-q`/`secure`/`review-checklist`
- `slo` → `incident`/`automate-test`/`diagnose`
- Pattern: textual handoff ระหว่าง skills (ลด orchestrator round-trip — 9arm `post-mortem → management-talk` pattern)

**Meeting god-skill split** (P1-1 from audit):
- เดิม: `skills/meeting/SKILL.md` = **1316 บรรทัด, 45 KB** (god-skill — ทุก agent โหลด)
- ใหม่: `skills/workflow/meeting/SKILL.md` = **180 บรรทัด** (thin entry-point + Recite Discipline Card + index ไป 7 split skills)
- ผลที่ได้: **86% token reduction** สำหรับ entry context per agent

**Command consolidation** (audit Section 5 — user-requested):
- `/init` รวม `/setup-project` — เพิ่ม `--quick "<stack>"` flag (direct Aaron Docker-first mode)
- `/design-system` รวม `/spec-only` — เพิ่ม `--stop` (no implement suggest) + `--estimate` (add T-shirt sizing) flags
- ลด 8 → 6 active commands + 2 deprecated alias (1-2 release window)
- 3-flag rule (CLAUDE.md invariant): prefer flags over command proliferation

**`/implement` Phase 3b + `/review` rewired to use `review-checklist` skill** (DRY):
- เดิม: ทั้ง 2 command มี checklist ของตัวเอง (Chris 7-dim + Quinn matrix duplicated)
- ใหม่: invoke `review-checklist` skill เป็น source-of-truth — update ครั้งเดียวกระทบทั้ง 2

**Folder migration** (no functional change):
- `skills/meeting/` → `skills/workflow/meeting/`
- `skills/dev-gate/` → `skills/workflow/dev-gate/`
- `skills/automate-test/` → `skills/workflow/automate-test/`
- `skills/diagnose/` → `skills/workflow/diagnose/`
- `skills/incident/` → `skills/ops/incident/`
- `skills/slo/` → `skills/ops/slo/`
- `skills/secure/` → `skills/ops/secure/`
- `skills/ui-test/` → `skills/ui/ui-test/`
- `skills/web-q/` → `skills/ui/web-q/`
- `skills/caveman/` → `skills/style/caveman/`

### ⚠️ Deprecated (alias 1-2 release window — ลบใน v3.2)

- `commands/setup-project.md` → use `/init --quick "<stack>"` แทน
- `commands/spec-only.md` → use `/design-system --stop --estimate` แทน

Migration: ทั้ง 2 command ยังทำงานได้ใน v3.1.x — auto-redirect ผ่าน Oliver

### 🏛️ Architecture impact

- v3.0 agents ที่อ้าง *"ยึด meeting skill เป็น discipline foundation"* ยัง work — meeting skill ตอนนี้เป็น thin entry-point + Recite Card + index pointer
- เพื่อ token optimal: future agents ควร reference เป็น *"ยึด `shode-house-discipline` (mandatory) + `shode-house-evidence` (when claiming)"* — iterative adoption, ไม่บังคับใน v3.1
- เนื้อหา 1316 บรรทัดเดิมยังครบ — กระจายไปยัง 7 sub-skills + index ใน thin meeting

### 📊 Stats v3.1

- **Skills**: 18 (จาก 10) — 10 functional + 7 discipline modules + 1 review-checklist
- **Commands**: 6 active + 2 deprecated alias (จาก 8 active)
- **Skill descriptions**: 100% migrated to 4-section format
- **When-NOT gates**: 5/5 heavy skills covered
- **Skill composition pointers**: 5 skills cross-linked
- **Largest SKILL.md**: 272 lines (`shode-house-deliverable`) — ทุก skill ≤ 300 (CLAUDE.md invariant); meeting/ exception (180 thin)
- **9arm patterns adopted**: 7/7 (description 4-section, When-NOT, Required-inputs, Recite mantra, skill composition, bucket lifecycle, CLAUDE.md invariants)

### Inspired by

- [`thananon/9arm-skills`](https://github.com/thananon/9arm-skills) — skill-craft patterns (4-section description, When-NOT + Required-inputs gate, Recite mantra, skill composition, bucket-folder lifecycle, CLAUDE.md invariants)
- [`mattpocock/skills`](https://github.com/mattpocock/skills) — caveman/diagnose concepts (already credited in v2.x)
- [`addyosmani/web-quality-skills`](https://github.com/addyosmani/web-quality-skills) — web-q port (already credited in v2.x)

### Why minor bump (3.0.1 → 3.1.0)

- **New features**: 8 new skills, command flag system, bucket folders, scripts/, CLAUDE.md
- **No breaking change**: agent reference to meeting still works (thin entry-point); deprecated commands still work as alias
- Per Semver: minor bump (backward-compatible additions)

---

## [3.0.1] — Self-audit Patch (Patch — consistency + de-duplication + arrow convention)

Self-audit ของ v3.0.0 ก่อน public — เจอ 3 inconsistency + apply fix

### Fixed

- **Skill name table** (meeting v3 section) — เคยอ้าง `ci-test` / `debug` (short names proposal) แต่ folder จริง = `automate-test` / `diagnose` → revert table ใช้ชื่อ folder จริง; defer short-name rename ไป v3.1+ (avoid breaking change for consumers)
- **STRIDE table duplication** (Sara) — ลบ STRIDE table จาก `agents/solution-architect.md` (เคย duplicate กับ Sentinel agent + secure skill); เหลือ Sara residual responsibility 4 ข้อ (trust boundary in C4, ADR mitigation support, NFR security row, joint-review threat model) + handoff pointer → Sentinel `secure` skill
- **Arrow convention** — Document explicit rule ใน meeting skill: `▸` = handoff broadcast (M3 protocol — formal); `→` = general flow/sequence/implication (informal). Accept divergence per Stan tech-radar pattern

### Bonus fixes

- **README version badge** — 2.8.2 → 3.0.1 (was outdated)
- **README header** — เพิ่ม v3.0 summary (19 agents / 7 teams / Patrick/Stan/Sentinel/Reggie / Phase 0/1c/6/7 / Drift Defense)
- **SHODE-HOUSE-MASTER.md** — `/Users/shode/development/shode-house/` → `~/development/shode-house/` (sanitize personal path before public)

### Token cost

- Net delta: **+~80 tokens (~0.05%)** — fix-only patch, no new feature

### Why patch bump (3.0.0 → 3.0.1)

Self-audit findings = consistency fix, ไม่มี behavior change (per Semver patch). No new agent / no new skill / no new phase / no breaking change

### Pre-public security

Self-scan สำหรับ sensitive data ก่อน repo public:
- ✅ 0 API keys / tokens / passwords / private keys
- ✅ 0 GitHub PAT / AWS / GCP / Azure credentials
- ✅ 0 production DB connection strings
- ✅ 0 JWT samples / session tokens
- ✅ 0 real customer / NDA names
- ✅ `.env*`, `outputs/` already in `.gitignore`
- ⚠️ Personal `/Users/shode` paths in SHODE-HOUSE-MASTER.md → sanitized to `~/development/shode-house/`

Recommended local-only scan ก่อน push: `gitleaks detect` + `trufflehog git file://$(pwd)` (sandbox can't deep-scan git history)

---

## [3.0.0] — Comprehensive Org Structure (Major)

**Single biggest release since v1.0** — real software-house org chart, zero-overlap capability, parallel-team execution, follow-up drift defense.

### 🆕 Added — 4 new core agents

- **Patrick (PM)** — `agents/product-manager.md` — sole owner Why/What: OKR, RICE/WSJF, opportunity sizing (TAM/SAM/SOM), kill decisions, stakeholder mgmt
- **Stan (Staff Engineer)** — `agents/staff-engineer.md` — sole owner cross-team technical depth: tech radar, polyglot consistency, convergence decisions, mentoring
- **Sentinel (Security Engineer)** — `agents/security-engineer.md` — sole owner security: STRIDE/LINDDUN threat modeling, SAST/DAST orchestration, CSP/Trusted Types/SRI, pen testing
- **Reggie (Site Reliability Engineer)** — `agents/sre-engineer.md` — sole owner operate: SLO/SLI/error budget, runbook, on-call, blameless postmortem

### 🆕 Added — 4 new phases

- **Phase 0 — Discovery** (Patrick + Domain SME) — OKR + opportunity sizing + pain validation BEFORE BRD
- **Phase 1c — Threat Model** (Sentinel + Sara) — STRIDE + abuse case + security AC, mandatory if feature touches auth/PII/money/external
- **Phase 6 — Operate** (Reggie + Aaron + Oliver) — continuous post-deploy: SLO burn rate, incident, postmortem
- **Phase 7 — Learn** (Patrick + Oliver) — sprint retro: OKR review, kill decision, tech debt RICE

### 🆕 Added — 4 new skills + 1 merged

- `dev-gate` — merged from `tdd` + `code-quality`
- `web-q` — Core Web Vitals + SEO + security headers (ported + adapted from `addyosmani/web-quality-skills` MIT)
- `secure` — STRIDE + threat-driven design + CSP/Trusted Types
- `slo` — SLI/SLO/error budget (Google SRE Book-aligned)
- `incident` — Runbook + on-call + blameless postmortem

### 🆕 Added — Workflow Drift Defense (7 Mechanisms — meeting skill)

แก้ปัญหา agent หลุด workflow ใน warm follow-up:
- M1 Ingress Guard | M2 Follow-up Classifier | M3 Anti-Puppet "Done"
- M4 User Comment = FAIL | M5 Spec Change = bd revision
- M6 SESSION-STATE.md persistent | M7 Direct-to-Agent block

### 🆕 Added — 7-Team Structure + Handoff Broadcast Protocol

7 teams (parallel within, sequential across via gate): Lead / Discover / Design / Domain / Dev / Verify / Ops + Content (opt). Single-owner capability matrix (zero overlap).

Handoff: 1-line caveman `Bella ▸ Dave : impl bd-42` consistent ทุก phase transition.

### 🆕 Added — RACI matrix per phase + Multi-sig pre-deploy-prod gate

ทุก phase มี explicit R/A/C/I. R0 deploy requires 4 sigs: Aaron (build) + Reggie (SLO) + Sentinel (security) + Patrick (OKR).

### Changed — scope split + handoff to new agents

- **Oliver** — keep Engagement Lead only; cross-team tech depth → Stan
- **Bella** — keep BA only; PM work → Patrick
- **Sara** — keep SA only; deep threat modeling → Sentinel
- **Aaron** — keep Platform/DevOps only; SLO/incident → Reggie
- **Chris** — surface security only; deep security → Sentinel
- **Quinn** — keep integration/E2E/contract/load; pen test → Sentinel
- **7 Domain SMEs** — elevated to Phase 0 active driver

### Removed — skill cleanup

- `skills/sd/` + `skills/do/` — identical (v1.1 stale); superseded by `meeting`
- `skills/tdd/` + `skills/code-quality/` — merged → `dev-gate`
- `skills/grill-me/` — merged → `meeting` Clarifying (6 patterns)
- `skills/triage/`, `to-prd/`, `to-issues/`, `zoom-out/` — empty stubs

### Token cost

- Removed: −1,500
- Added: +7,500
- Net: **+6,000 (~+4%)** — adds 4 roles + 4 phases + Drift Defense + Teams + Handoff + RACI

### ⚠️ Breaking changes

- Skills `sd`, `do`, `tdd`, `code-quality`, `grill-me`, `triage`, `to-prd`, `to-issues`, `zoom-out` removed — apply-v3.0.sh handles `rm -rf`
- Phase 5 deploy single-sig → multi-sig (Aaron + Reggie + Sentinel + Patrick R0)
- Drift Defense (M1-M7) opt-in via `mode: minimal` ใน engagement for legacy flow

### Reference

- Web-Q ported from [`addyosmani/web-quality-skills`](https://github.com/addyosmani/web-quality-skills) (MIT)
- SLO aligned with Google SRE Book
- RACI follows PMI standard
- Tech Radar pattern from Thoughtworks

---

## [2.8.2] — Review Audit Trail (Patch — bd-native primary, no markdown duplicate)

ตอบคำถาม "review เสร็จต้องเขียน md file ไหม": **bd active = bd notes ONLY (ห้ามเขียน md ซ้ำ); no bd = outputs/REVIEW-<feature>.md fallback**. ทั้งคู่ใช้ template structure เดียวกัน

### Added

- **📝 REVIEW Report Format section** (meeting skill) — mandatory template structure: Summary / Findings by severity 🔴🟠🟡🔵 / Coverage (Chris/Quinn) / UX Verdict (Uma) / Loop Routing Recommendation. Apply ทุก Phase 3a + 3b + 4 + `/review`
- **Storage rule conditional**:
  - bd active (`.beads/` exists OR `bd ready` returns) → `bd update <id> --notes` ONLY
  - No bd → `outputs/REVIEW-<feature>.md` (fallback)
  - bd + sprint close → optional `outputs/RETRO-sprint-<N>.md` (aggregate)
- **Universal Rule** — "ห้าม close Phase 3 ก่อน post review report"; "ห้ามเขียน markdown ถ้ามี bd" (bd = single source of truth)
- **DoD checkbox** — "Review report posted (bd notes OR outputs/REVIEW-*.md, conditional)"
- **Pre-loop-exit gate** — เพิ่มเงื่อนไข: review report posted ตาม REVIEW Report Format
- **Compact bd notes pattern** (≤ 500 chars) — summary + count + evidence paths; full evidence (axe.json, Playwright trace, mutation report) ที่ path เท่านั้น

### Changed

- **Chris/Quinn/Uma agent files** — Output section refactor:
  - ก่อน v2.8.2: "Output: section ใน outputs/REVIEW-<bd-id>.md" (always markdown)
  - หลัง v2.8.2: "bd active → bd update --notes ONLY; no bd → outputs/REVIEW-<feature>.md fallback"
- **`/review` command Step 4** — Consolidated Report: bash conditional storage (bd active vs no bd); ห้ามเขียนคู่
- **Anti-redundancy** — ลด token waste จาก double-write (bd notes + markdown ของเรื่องเดียวกัน)

### Token cost

- skills/meeting/SKILL.md: +~400 tokens (REVIEW Report Format section + 2 Universal Rules + DoD line)
- agents/code-reviewer.md: ~0 tokens (replace section content)
- agents/qa-engineer.md: ~0 tokens (replace section content)
- agents/ux-ui-designer.md: +~50 tokens (Verdict format conditional)
- agents/orchestrator.md: +~30 tokens (pre-loop-exit gate condition)
- commands/review.md: +~100 tokens (bash conditional storage)
- **Total: ~+580 tokens (~+0.4%)** — discipline + anti-redundancy

### Why patch bump (2.8.1 → 2.8.2)

Discipline tightening (storage rule + template) — no new phase, no new command. Patch per Semver

### Root cause (user question)

User: "มีการระบุว่า review เสร็จต้องเขียน md file หรือไม่"

Audit เจอ **soft hint ใน 8 จุด**: `outputs/REVIEW-<bd-id>.md` mentioned ที่ Chris/Quinn/orchestrator/developer/implement/meeting × 2/CHANGELOG — แต่:
- ไม่มี template/structure mandatory
- ไม่มี enforcement gate / DoD
- ไม่มี anti-puppet rule for missing report
- **Most important**: ซ้ำซ้อนกับ bd notes (waste token + drift risk)

User feedback: "ถ้ามี bd ไม่ต้องเขียน markdown" — v2.8.2 บังคับ conditional: bd active = bd notes ONLY; no bd = md fallback. ห้ามคู่

## [2.8.1] — Uma Hardened (Patch — UX/UI verification teeth)

แก้ root cause "Uma ทำงานแย่, UI บิด ๆ เบี้ย ๆ, verify หลัง dev ชอบหลุด" — Uma ขาดเครื่องมือ + ไม่มี anti-puppet UX + Universal UX rules บังคับไม่ได้

### Added

- **🔴 `Bash` tool ใน Uma YAML** — ใหญ่ที่สุด. Uma ก่อนหน้านี้ไม่มี Bash → execute screenshot/diff/axe ไม่ได้ → skip silent / hallucinate. ตอนนี้ run Playwright/Chromatic/axe-cli/rg ได้จริง
- **🎨 UX Evidence Protocol** (meeting skill, extension of Project Evidence) — UX/a11y claim ต้อง cite tool output: `[axe report: path] critical=0`, `[Chromatic: URL] diff=0.08%`, `[screenshot: path]`. ห้าม "UI ดูดี / a11y ok" — ต้องมี tool path
- **🔴 Anti-Puppet UX/UI extension** (meeting skill) — ห้าม UI claim โดยไม่ paste Bash output: Playwright run, axe report, Chromatic URL, rg hardcoded check, manual keyboard/screen reader paste
- **🔴 Universal UX/UI Quality Rules** (meeting skill, 13 rules) — บังคับ semantic token (no hardcoded color/spacing), 8-pt grid, focus order = visual order, contrast ≥ 4.5:1, touch ≥ 44×44, 7 atomic states ครบ, mobile-first 320px, no `tabindex>0`, no `outline:none` without alt, no flash w/o reduce-motion, i18n text expand 30%
- **Uma Phase 1b mandatory Bash baseline capture** — `pnpm playwright test --update-snapshots` + paste path; ห้าม "baseline.png" placeholder
- **Uma Phase 3a 11-step mandatory Bash invocation** — capture / diff / token check / axe / contrast / states / content / AC bullet — ทุก step paste tool output
- **Uma Phase 3a verdict format** — bullet per AC + evidence path + Bash output; ห้าม "AC 5/5 PASS" รวบ
- **Dave Phase 2 screenshot mandatory** ถ้า frontend changed — `pnpm playwright screenshot` desktop + mobile → paste path; ไม่มี = no hand-off Uma
- **🔴 Auto-trigger Phase 3a detection** (implement.md Step 0 + Step 5) — Bash `git diff` + `grep -E "\.(vue|tsx|jsx|svelte|html|css)$"` → MANDATORY Uma POST. ห้าม Oliver "skip เพราะ minor"

### Changed

- Uma `Best Practices` → enforce ผ่าน Universal UX/UI Quality Rules (meeting skill บังคับ ทุก agent)
- Dave ข้อห้าม — เพิ่ม "ห้าม hand-off Phase 3a Uma POST ถ้า frontend changed แต่ไม่ paste screenshot path"
- implement.md Step 0 — Bash auto-detection แทน manual judgment
- implement.md Step 5 — reference 11-step mandatory Bash pattern + anti-puppet UX

### Root cause (audit finding from real engagement)

User report: "Uma ทำงานแย่, UI บิด ๆ เบี้ย ๆ, verify หลัง dev ชอบหลุด"

Audit เจอ 8 root cause:
1. **Uma YAML ไม่มี `Bash` tool** — rule บอก "screenshot + diff + axe" แต่ technically ทำไม่ได้ → skip silent / hallucinate
2. ไม่มี **Anti-Puppet UX/UI rule** — Anti-Puppet เดิม cover แค่ Dave/Quinn; Uma claim "design ok" ได้โดยไม่ paste
3. ไม่มี **Universal UX/UI Quality rules** — Mobile-first / 8-pt grid / focus order = guidance เท่านั้น, ไม่ block
4. Phase 1b baseline = "baseline.png" placeholder ได้ (no enforcement)
5. **Dave hand-off ไม่ require screenshot** — Uma มี baseline แต่ไม่มี "after" diff → can't verify
6. Phase 3a trigger **manual judgment** — Oliver decide "minor change skip Uma" → bad UI หลุด
7. Uma AC verification "AC 5/5 PASS" รวบได้ — ไม่มี bullet-per-AC mandatory
8. **Domain Evidence Protocol cover เฉพาะ regulation** — UX claim ไม่มี evidence protocol

### Token cost

- agents/ux-ui-designer.md: +~700 tokens (Phase 1b mandatory Bash + Phase 3a 11-step + verdict format)
- skills/meeting/SKILL.md: +~500 tokens (UX Evidence Protocol + Anti-Puppet UX + Universal UX 13 rules)
- commands/implement.md: +~200 tokens (Step 0 auto-detect + Step 5 mandatory Bash ref)
- agents/developer.md: +~30 tokens (ข้อห้าม screenshot hand-off)
- **Total: ~+1430 tokens (~+0.9%)** — discipline patch, not new feature

### Why patch bump (2.8.0 → 2.8.1)

Hardening + discipline — no new phase, no new command. Bash tool addition + rule tightening. Patch per Semver

## [2.8.0] — Smart Coop + Sprint (Minor — best-of-best lean refactor)

Workflow refactor "ครั้งที่ดีที่สุด": parallel where independent, sequential gate where dependent. รวม strength ของ dev-flow.md (Sprint cadence + bd-native + Uma PRE/POST gate) + v2.7 (Domain Expert + iter cap + Aaron deploy) → **leaner token (~−25% vs v2.7)** + **higher quality** (precise gates + sharper loop routing)

### Added

- **Outer Sprint Loop** — Pre-Sprint (`bd ready` + audit + `bd create`) → Sprint Exec (inner loop) → Sprint Close (`bd close` + `git push` + `bd remember` + retro 1-pager) → next sprint
- **NEW `/sprint` command** — sub-commands: `pre` (planning), `status` (mid-sprint), `close` (deploy + retro), `retro` (standalone)
- **Phase 1a Foundation (TRUE parallel)** — Bella ∥ Sara on independent scope (BA vs SA), end with light cross-read (NO mid-checkpoint cross-read overhead from v2.7)
- **Phase 1b Conditional Expand (sequential)** — Uma + Domain read 1a baseline → produce wireframe/tokens/a11y/baseline + regulation/business rule → `outputs/SPEC-<bd-id>.md`
- **Phase 3a UI Check (Uma POST — sequential gate)** — Uma verify screenshot diff + a11y manual + own AC BEFORE Chris/Quinn (catches UI bug early, saves Chris/Quinn effort)
- **Phase 3b Code Review (Chris ∥ Quinn TRUE parallel)** — only after Uma POST PASS; truly independent scope (static review vs runtime test)
- **Phase 4 Triage routing (precise)** — code finding → Phase 2 ∥ UI finding → Phase 1b ∥ spec finding → Phase 1a (granular vs v2.7 binary Phase 1 or 2)
- **Phase 5 Deploy (Aaron batched sprint-end)** — reduce deploy overhead, consolidate risk; exception: P0 hotfix
- **4 new Approval Gates**: `pre-spec-expand` (1a→1b), `pre-ui-check` (2→3a), `pre-code-review` (3a→3b); `pre-loop-exit` retained
- **bd-native operational** — `bd ready`, `bd update --claim`, `bd update --notes`, `bd close`, `bd remember`, `bd dolt push` ทุก step (lean: state ใน bd, ไม่ verbose ใน chat)
- **Per-issue loop state tracking** — Oliver maintain `{iter, last-phase, findings, next-phase}` per bd-id
- **Sprint state tracking** — Oliver maintain `{sprint-N, ready, in_progress, closed, discovered}`
- **Uma own AC + baseline screenshot** — Phase 1b produces verifiable AC + baseline for Phase 3a diff (audit-ready)

### Changed

- **Phase Contract refactor** — replaces v2.7 "3 macro-phase + loop" with v2.8 "Outer Sprint + Inner 5-phase Smart Coop". Backward-compat phase names (clarify/design/ux-design/review/integration) ยังใช้อ้างอิงใน sub-step
- **Smart Coop Pattern section** — replaces "Coop Phase Pattern" (v2.7). New parallel-vs-sequential matrix อธิบายเมื่อไหร่ใช้ pattern ไหน
- **Lifecycle Hooks** — grouped by phase (Pre-Sprint / 1a / 1b / 2 / 3a / 3b / 4 / 5 / Sprint Close) with bd commands
- **commands/design-system.md** — refactor v2.7 7-step Coop pattern → v2.8 3-step (Triage → 1a parallel → 1b conditional sequential). Output: `outputs/SPEC-<bd-id>.md`
- **commands/implement.md** — refactor v2.7 Coop Review (3 parallel) → v2.8 sequence (Uma POST gate → Chris ∥ Quinn parallel). Output: `outputs/REVIEW-<bd-id>.md`
- **Oliver Engagement Plan** — sprint topology + phase-precise loop routing
- **Bella + Sara** — both got "Phase 1a Foundation" section (parallel pattern + bd notes compact format)
- **Uma** — replace v2.7 "Coop Design Participation + Coop Review Participation" with v2.8 "Phase 1b PRE-Design (sequential)" + "Phase 3a POST-Check (sequential gate)"
- **Chris + Quinn** — replace v2.7 "Coop Review Participation" with v2.8 "Phase 3b Code Review (parallel AFTER Uma POST PASS)" — clarifies ordering
- **Aaron** — add "Phase 5 Deploy (batched sprint-end)" section
- **Dave** — Process step 10 → 10+11 (Phase 3a Uma POST gate → Phase 3b Chris ∥ Quinn parallel); Self-Routing reflect new ordering
- **Approval Gates** — drop `pre-coop-design-exit` (v2.7), add `pre-spec-expand` + `pre-ui-check` + `pre-code-review` (v2.8); standard count remains **10**
- **Oliver ข้อห้าม** — drop v2.7 Coop bans, add v2.8 phase-precise bans (no serialize 1a, no parallel 1b, no skip 3a gate, no serialize 3b, no skip Triage routing)
- **DoD** — drop 3 v2.7 lines, add 5 v2.8 lines (phase-precise checkpoints)

### Token cost

- skills/meeting/SKILL.md: ~−1500 tokens (Coop Pattern section shrink, but added Sprint section) — net ~−500
- agents/orchestrator.md: ~+200 tokens (sprint topology + loop state table)
- commands/design-system.md: ~−800 tokens (3 steps vs 7 steps; integrated output instead of Coop bundle)
- commands/implement.md: ~−200 tokens (clearer sequence)
- **NEW commands/sprint.md**: +600 tokens
- agents/business-analyst.md: +80 tokens
- agents/solution-architect.md: +90 tokens
- agents/ux-ui-designer.md: ~−100 tokens (sections cleaner)
- agents/code-reviewer.md: ~−40 tokens
- agents/qa-engineer.md: ~−40 tokens
- agents/developer.md: ~+30 tokens
- agents/devops-engineer.md: +160 tokens
- **Total: ~−500 to −1000 tokens NET** (~−0.3% to −0.6%) — first version to REDUCE plugin size while increasing structural rigor

### Why minor bump (2.7 → 2.8)

Phase topology change (Coop 3-macro-phase → Smart 5-phase + Sprint outer) แต่ backward-compat phase names. Minor bump per Semver

### Root cause (audit finding from dev-flow.md comparison)

dev-flow.md surface ของ 3 gaps ใน v2.7.0:
1. **Coop everywhere = wasteful** — Bella → Sara มี natural BRD-informs-ADR dependency; 4-way parallel + cross-read = 40% redundant token
2. **Uma in Coop Review = lost gate signal** — UI bug ที่ Uma เจอ ระหว่าง parallel review = late; Uma POST sequential gate BEFORE code review = catch early
3. **Loop routing binary** — v2.7 "Phase 1 หรือ Phase 2" loose; v2.8 "1a / 1b / 2" precise

dev-flow.md gaps ที่ v2.8 ครอบ:
- เพิ่ม Domain Expert ใน Phase 1b (dev-flow ไม่มี)
- เพิ่ม Aaron Phase 5 Deploy (dev-flow ไม่มี)
- เพิ่ม max iter 3 cap (dev-flow loop ไม่มี cap)
- เพิ่ม 10 explicit Approval Gates

## [2.7.0] — Coop Workflow (Minor — structural workflow refactor)

ปรับ workflow discipline ให้ตรง user mental model: **3 macro-phase + loop** แทน sequential 7 phases. Design + Review เป็น Coop (parallel + cross-feedback + integrated artifact) ไม่ใช่ serialize hand-off

### Added

- **Phase Contract — 3 macro-phase + loop** (meeting skill)
  - Phase 1 🤝 Coop Design (parallel): Bella + Sara + Uma* + Domain* — output `outputs/01-coop-design.md` integrated bundle
  - Phase 2 🛠️ Implement: Dave (sequential or parallel Dave#1/#2)
  - Phase 3 🔎 Coop Review (parallel): Chris + Quinn + Uma* — output `outputs/03-coop-review.md`
  - Phase 4 🔁 Loop Decision (Oliver): all green → Phase 5 / code finding → Phase 2 / design finding → Phase 1; max iter 3
  - Phase 5 🚀 Deploy: Aaron
- **Coop Phase Pattern** (meeting skill) — explicit pattern: kick-off → parallel draft → mid-checkpoint cross-read → cross-feedback (1-2 round) → integration sign-off → bundle
- **Approval Gate `pre-coop-design-exit`** (Oliver) — Phase 1 → Phase 2 transition; ทุก participant ack cross-validation
- **Approval Gate `pre-loop-exit`** (Oliver) — Phase 4 Loop Decision → Phase 5 Deploy; all 3 reviewers green + iter ≤ 3
- **Loop Enforcement** (Oliver) — track iter state, decide loop target by finding type, escalate ถ้า iter > 3
- **Uma Coop Design Participation section** — explicit cross-direction matrix (Uma ↔ Bella, Sara, Domain)
- **Uma Coop Review Participation section** — visual diff + design adherence + a11y manual + component state + content design
- **Chris Coop Review Participation section** — scope split (unit/7-dim Chris; visual/a11y Uma; integration/E2E Quinn)
- **Quinn Coop Review Participation section** — scope split + automation/manual handoff to Uma

### Changed

- **commands/design-system.md** — refactor sequential 0/1/2/3/3.5/4 → 7-step Coop pattern (Triage → Kick-off → Parallel Draft → Mid-Checkpoint → Cross-Feedback → Integration Sign-off → Bundle → Exit Gate). Output: `outputs/01-coop-design.md` (integrated, แทน 01-brd / 02-domain / 03-arch / 04-ux)
- **commands/implement.md** — Step 5 Hand-off เพิ่ม Uma ใน Phase 3 Coop Review parallel; Step 6 Loop Decision section ใหม่; Step 7 Domain Validation (renumber)
- **agents/developer.md** — Process step 10 Hand-off เพิ่ม Uma; Self-Routing split Phase 1 vs Phase 3 Uma scope
- **agents/orchestrator.md** — Engagement Plan pipeline restructure เป็น 3 macro-phase + loop; Approval Gates table เพิ่ม pre-coop-design-exit + pre-loop-exit
- Approval Gates standard count: 8 → **10** (เพิ่ม pre-coop-design-exit + pre-loop-exit)
- Oliver ข้อห้าม — เพิ่ม "ห้าม serialize Coop phase", "ห้าม skip Loop Decision"
- DoD — เพิ่ม 3 บรรทัด: Coop Design checkpoint pass, Coop Review checkpoint pass, Loop iter ≤ 3

### Token cost

- skills/meeting/SKILL.md: +~700 tokens (Phase Contract refactor + Coop Pattern section + Lifecycle Hooks restructure + Universal rules + DoD + Approval Gates)
- agents/orchestrator.md: +~300 tokens (Engagement Plan + Loop Enforcement section + Gates + ข้อห้าม)
- commands/design-system.md: +~400 tokens (Coop pattern 7-step + cross-validation matrix)
- commands/implement.md: +~120 tokens (Step 5+6 + Rule 4+6+7)
- agents/developer.md: +~80 tokens (Process step 10 + Self-Routing)
- agents/ux-ui-designer.md: +~280 tokens (2 sections: Coop Design + Coop Review)
- agents/code-reviewer.md: +~80 tokens (Coop Review Participation)
- agents/qa-engineer.md: +~100 tokens (Coop Review Participation)
- **Total**: ~+2060 tokens (~+1.3%) — structural change ที่ตอบ user mental model

### Why minor bump (2.6.x → 2.7.0)

Structural workflow change: phase contract restructure จาก 7-phase linear → 3 macro-phase + loop. Backward-compatible terminology (clarify/design/ux-design/review/integration ยังใช้ภายใน macro-phase) แต่ pipeline topology เปลี่ยน → minor bump per Semver

### Root cause (audit finding)

Pre-v2.7 workflow ขัด user mental model 3 จุด:
1. **Phase 1 design** = sequential Bella → Sara → Uma → Domain (serialize) → conflict discover late, rework expensive
2. **Uma หายจาก review** (Phase 3) — Chris + Quinn ตรวจ code/test แต่ visual diff / design adherence / a11y manual ไม่มีคนทำ post-implement
3. **ไม่มี Loop mechanic** — review fail → ไม่ชัดว่ากลับไปไหน; agent ตัดสินใจตามใจ

## [2.6.1] — UX Gate Closure (Patch)

ปิด hole ใน workflow discipline: Dave (developer) เริ่ม implement frontend ได้โดยไม่ผ่าน Uma (UX/UI). Audit เจอ Uma หาย 7 จุดทั่ว pipeline — patch ทุกจุดให้บังคับ pre-implement-ui gate

### Added

- **Phase Contract — `ux-design` phase** (meeting skill, conditional)
  - Insert ระหว่าง `design` → `implement`. Exit = wireframe (Figma link/frame ID) + tokens.json + a11y checklist
  - Trigger: feature touch frontend/UI/component/page/view/email template/dashboard
  - Skip: pure backend/API/data pipeline/CLI/library — Oliver confirm กับ user ถ้ากำกวม
- **Lifecycle Hook — ux-design** (meeting skill) — Pre: BRD+ADR loaded, frontend trigger detected. Post: hand-off bundle to Dave saved
- **Approval Gate — `pre-implement-ui`** (Oliver) — block Dave start frontend implement โดยไม่มี Uma artifact ครบ (Figma + tokens + a11y + state inventory)
- **DoD line — UI Design pre-check** — Uma artifact ต้องมีก่อน implement; แยกจาก UI Test (post-implement) ที่มีอยู่
- **commands/design-system.md Step 3.5** — Uma UX/UI design step (conditional หลัง Sara, ก่อน Summary) → `outputs/04-ux-ui.md`
- **commands/implement.md Step 0** — Oliver UI Precondition Check ก่อน delegate Dave
- **Orchestrator Engagement Plan step 3.5 Uma** — conditional ถ้า frontend; Approval Gate table มี pre-implement-ui row
- **Dave Process step 2.5** — UI Precondition check before identify language
- **Universal rule** (meeting skill) — "ห้าม start implement frontend โดยไม่มี Uma artifact"

### Changed

- Approval Gates standard count: 7 → **8** (pre-implement-ui เพิ่ม)
- Oliver ข้อห้าม — เพิ่ม "ห้าม design ข้าม Uma สำหรับ frontend; ห้าม delegate Dave implement FE โดยไม่มี Uma artifact"
- Dave ข้อห้าม — เพิ่ม "ห้าม implement frontend โดยไม่มี Uma artifact" + reference pre-implement-ui gate
- commands/implement.md Rule 0 — UI artifact precondition (priority สูงสุด ก่อน spec rule)
- commands/design-system.md Rule 6 — ห้าม skip Step 3.5 Uma ถ้า frontend

### Token cost

- meeting skill: +~250 tokens (Phase Contract row + Lifecycle Hook row + Gate update + DoD line + Universal rule)
- commands/design-system.md: +~200 tokens (Step 3.5 Uma section)
- commands/implement.md: +~150 tokens (Step 0 + Rule 0)
- agents/orchestrator.md: +~80 tokens (gate row + pipeline step + ban)
- agents/developer.md: +~60 tokens (ข้อห้าม + Process step 2.5)
- **Total**: ~+740 tokens (~+0.5%) — แค่ rule update, ไม่กระทบ persona/scope/expertise

### Root cause (audit finding)

Pre-v2.6.1 Uma หายจาก default pipeline 7 จุด:
1. commands/design-system.md (Triage→Bella→Domain→Sara→Summary, no Uma)
2. commands/implement.md (allow Dave start ถ้ามี spec; spec ไม่ครอบ UI artifact)
3. commands/init.md Phase 4 (next-step suggest /implement หลัง /design-system แม้ขาด Uma)
4. agents/orchestrator.md Engagement Plan (Bella→Domain→Sara→Dave→Chris→Quinn→Aaron, Uma หาย)
5. agents/developer.md ข้อห้าม (spec ก่อน — ไม่ครอบ UI artifact)
6. skills/meeting/SKILL.md Phase Contract (design exit = ADR+diagram+threat model only)
7. skills/meeting/SKILL.md DoD (ตรวจ UI Test post-implement; ไม่มี pre-implement design check)

Real-world impact: Dave เดา UI, hardcode styling, no design tokens, retrofit a11y, visual inconsistency, pre-merge-ui gate block ที่ PR (rework cycle)

## [2.6.0] — Lean Credibility Edition

จาก realworld feedback — domain expert (Felix/Iris/Tara/Elena/Sam) confident แต่ผิดบ่อย; persona "Senior Expert" overpromise. Root cause: agent file = persona prompt only, knowledge = Claude training (cutoff May 2025), ไม่มี citation discipline สำหรับ domain claim. **Fix lean (~+1500 tokens, ~+1%)** ก่อน RAG/eval

### Added

- **⚠️ AI Persona Disclaimer** (universal ใน meeting skill — apply ทุก domain expert)
  - Agent = AI persona based on Claude training (cutoff May 2025), อาจ outdated
  - ระบุชัด: provide structured thinking/framework/checklist; ไม่ provide professional advice/legal opinion/audit sign-off
  - บังคับ disclaimer 1 บรรทัดเริ่มทุก engagement: "⚠️ AI persona, training cutoff May 2025 — validate critical claims with [domain expert / official source]"
  - Money / regulation / safety / compliance decision ต้อง validate กับ certified pro + official source + internal SME

- **📚 Domain Evidence Protocol** (extension ของ Project Evidence — meeting skill)
  - Domain claim (regulation/standard/protocol/spec) ต้อง cite เหมือน project fact
  - Format: `<Standard> <Version> <Clause/Section> [<Date>] — <Claim>`
    - ✅ "PCI-DSS v4.0 Req 3.5.1 (effective Mar 2024) — store PAN encrypted at rest"
    - ✅ "BOT notice 12/2566 ข้อ 4 — KYC ระดับ enhanced สำหรับ PEP"
    - ✅ "IFRS 17 para 32-39 — General Measurement Model"
    - ❌ "ตาม PCI-DSS ต้อง encrypt PAN" (no version, no clause)
  - cite ไม่ได้ → mark explicit "⚠️ General guidance from training memory — must validate กับ official document version ปัจจุบัน"
  - Apply ทุก: regulation, standard, protocol, industry spec, tax/accounting rule

### Changed

- **Honest Persona Reframe** — 5 domain agents เปลี่ยน persona intro line จาก "Senior Expert" → "AI Co-pilot literate" (scope/expertise list/อื่นๆ คงเดิม)
  - Felix: "Senior Fintech Expert" → "Fintech AI Co-pilot (Banking, Payment, KYC/AML literate)"
  - Iris: "Senior Insurance Expert" → "Insurance Domain AI Co-pilot (Life/Health/Motor/Property literate)"
  - Tara: "Senior Trading Expert" → "Trading Microstructure AI Co-pilot (OMS/EMS/Matching literate)"
  - Elena: "Senior ERP/Accounting Expert" → "ERP/Accounting AI Co-pilot (GL/AR-AP/MRP literate)"
  - Sam: "Senior SAP Expert" → "SAP AI Co-pilot (ECC/S4HANA/ABAP/Fiori literate)"
  - All 5 agents inherit AI Persona Disclaimer + Domain Evidence Protocol จาก meeting skill

### Skip / Backlog (need engagement evidence ก่อน — ห้าม build > use repeat)

- **#3 RAG Knowledge Skills** (fintech-knowledge / insurance-knowledge / trading-knowledge / sap-knowledge) — +30-60% token cost; revisit after 2-3 real engagements + evidence "Claude memory ผิด version X / regulation Y ซ้ำๆ"
- **#4 Eval Harness** (golden Q&A per domain) — 0 production cost แต่ต้อง domain expert review answers; revisit when CPA/actuary/SAP consultant พร้อม validate
- **FS Idea 1 Guardrails Architecture** (subagent role split) — structural change ขัด lean
- **FS Idea 3 5-Phase Operational Flow** (per-agent workflow) — per-agent deep change
- **FS Idea 4 Steering Examples** — file proliferation; use เป็น test fixture เมื่อ eval harness setup

### Token cost

- meeting skill: +~900 tokens (Disclaimer + Domain Evidence)
- 5 agent files: +~50 tokens each (persona reframe + 2 inheritance refs)
- **Total**: ~+1500 tokens upfront (~+1% of plugin)

### Lesson reinforced

- v2.5.0 → v2.6.0 ไม่ผ่าน real engagement → keep changes lean (Disclaimer + citation discipline เท่านั้น)
- ห้าม adopt RAG/eval/role-split จนกว่าจะมี evidence ว่า lean fix ไม่พอ

## [2.5.1] — Cowork Validator Fix

จาก realworld pain — Claude for Mac drag-drop install fail "Plugin validation failed" ตั้งแต่ v2.4.1 (v2.4.0 ผ่าน). Binary search ผ่าน 7 builds (FIX-A ถึง FIX-G) → root cause = **plugin description ยาวเกิน Cowork validator limit** (CLI `claude plugin validate` ผ่าน, Cowork stricter)

### Fixed

- **plugin.json description**: 530 → 179 chars, ASCII only, ตัด em-dash + Thai
- **marketplace.json top-level description**: 206 → 51 chars
- **marketplace.json plugin description**: 301 → 85 chars
- ทั้งหมด ASCII safe, no em-dash, no Thai mix
- Cowork drag-drop install ผ่านแล้ว ✅ (ทั้ง content unchanged from v2.5.0)

### Lesson learned (เพิ่มใน meeting skill ว่าควร)

- Cowork validator มี description length cap ที่เข้มกว่า CLI
- ทุกครั้งที่ bump version: keep all descriptions **≤ 200 chars, ASCII safe**
- Detail / feature list / marketing copy → README.md (ไม่ใช่ description)
- Pre-release: `claude plugin validate` ผ่าน CLI ≠ install ผ่าน Cowork. ทดสอบ drag-drop จริงก่อน push
- `docs/`, `CHANGELOG.md`, `.mcp.json` — ปลอดภัย ไม่ใช่ culprit (testing ผ่าน FIX-C/D/E)

## [2.5.0] — FS-Inspired Discipline

จาก audit `anthropics/financial-services` repo (May 2026) — adopt 3 patterns ที่ map กับ shode-house lean philosophy. **Universal patterns ใน meeting skill** ไม่แตะ agent files (single source of truth, agent inherit)

### Added

- **🔐 Input Trust Levels** (FS Idea 2 — Untrusted Input Threat Modeling)
  - 5 levels: Canonical / Operational / User-supplied / External / Untrusted
  - Required handling per level (use as fact / trust+cite / clarify / validate / treat as hypothesis)
  - **Trust cascade rule**: agent B อ้าง agent A → trust = min(A's level, A's output level), ห้าม upgrade chain (กัน hallucination cascade — risk #4 ใน handoff)
  - Pattern: ก่อน claim → state `[source: <level> / <evidence>]`

- **📦 Standard Output Deliverables** (FS Idea 6 — Output Format Specificity)
  - Universal template (3-4 named deliverables/agent)
  - Examples สำหรับ 5 domain agents (Felix/Elena/Iris/Tara/Sam)
    - Felix: Ledger model + Compliance gap + Reg cite + Risk register
    - Elena: TB extract + Accrual schedule + Roll-forward + Variance
    - Iris: Policy state machine + Reserve calc + IFRS 17 model + Reinsurance
    - Tara: Order lifecycle + Pre-trade risk + Matching priority + Clearing
    - Sam: Customizing config + ABAP/CDS + Integration + S/4 migration
  - Agent inherit ผ่าน meeting skill (ไม่ duplicate ใน agent file)

- **🚫 "I Never Do" Pattern** (FS Idea 9 — Explicit Prohibition + Evidence)
  - Universal template + examples ทั้ง 5 domain agents
    - Felix: ห้าม post ledger ตรง / make KYC decision / approve payment / update rate table
    - Iris: ห้าม approve payout / set reserve final / issue policy / authorize ex gratia
    - Tara: ห้าม execute trade / override risk block / modify priority / cancel client order
    - Elena: ห้าม post journal / close period / approve payment run / modify CoA
    - Sam: ห้าม transport to PRD / modify standard SAP / open prod debug / disable auth
  - Audit-ready guardrail visible to user/auditor

### Skip (need engagement evidence ก่อน)

- FS Idea 1 Guardrails Architecture (subagent split — structural change, ขัด lean)
- FS Idea 3 5-Phase Operational Flow (per-agent deep — รอ engagement พิสูจน์ pain)
- FS Idea 4 Steering Examples (file proliferation — รอจำเป็นจริง)
- FS Idea 10 Specialist Subagent Dispatch (ซ้ำกับ Idea 1)

### Why universal in meeting skill ไม่แก้ agent files

- Single source of truth — agents inherit, ไม่ duplicate
- ลด context cost (1 edit แทน 5 edits)
- Agent-specific refinement ทำใน engagement ถัดไป — after using → know what to refine
- ตรงกับ design constraint v2.4.1: token-net ≤ 0 ใน main context

## [2.4.1] — Token-Lean + Anti-Sprawl

จาก realworld pain (May 2026 engagement): (1) test pass แต่ UI ใช้จริงไม่ได้ — เคส edit screen validate `input == current_state` → save ไม่ได้ตลอด, (2) agent ทำเกิน scope / ตีความผิดทิศ / overlap แก้ file เดียวกัน, (3) plugin sprawl เริ่มเสี่ยง — patch ใส่ rule ทับโดยไม่ trace origin

**Design constraints**: token-net ≤ 0 ใน main context (zero meeting skill change), 1 mechanism = ครอบหลาย painpoint, ทุก rule ต้อง trace origin ได้

### Added

- **🎯 Scope Contract** (pre-implement gate, lazy load)
  - 5 fields: `IN` / `OUT` / `Files` / `Stop` / `Echo` — 1 template ครอบ scope creep + misinterpretation + agent overlap + token waste
  - `Files` field = natural file ownership lock — Oliver scan active contracts, overlap = block + wait
  - `Echo` field = confirm understanding 1 บรรทัดก่อน implement → จับ misinterpretation ก่อน work
  - **Location**: `references/scope-lock.md` (lazy, 0 main-context cost) + `agents/orchestrator.md` § Scope Contract Enforcement (Oliver enforce) + `agents/developer.md` § Process step 5 (Dave trigger)
  - **Token impact**: 0 in meeting skill, +250 in orchestrator (lazy), +50 in developer (lazy), +250 in references (lazy when triggered)

- **🔄 Mutation Evidence** (Quinn — state-changing flow)
  - Trigger: edit/update/create/delete/toggle/submit/save/transfer/approve/cancel
  - บังคับ: pre-state + action (NEW value, not equal current) + post-state (must differ) + backend verify + no-op safety check
  - ห้าม test แบบ no-op (submit ค่าเดิม) → จับ tautology test
  - **Location**: `agents/qa-engineer.md` § Mutation Evidence (lazy)
  - **Catches**: edit-validation-contradiction, optimistic update rollback, cache stale, wrong row update

- **📋 Failure-mode Catalog** (data-driven rule evolution)
  - `docs/failure-modes/<NNN>-<slug>.md` — ทุก realworld failure = 1 entry
  - Format: summary / symptom / root cause (ตาม pipeline layer) / pattern / mechanism ที่จับ / mechanism ที่ยังไม่จับ / status
  - **Seed**: `001-edit-validation-contradiction.md`
  - **Why**: kill "ผมว่าน่ามี" rule patching → rule ทุกข้อในอนาคตต้อง trace กลับ catalog entry หรือ external authority

- **📜 Why Provenance Convention** (anti-sprawl)
  - ทุก rule section ใหม่ต้องมี comment `<!-- Why: failure-modes/<id> | engagement: <id> | external: <ref> -->`
  - Rule ที่ไม่มี Why = candidate ลบใน periodic audit
  - **Already applied**: Mutation Evidence (link to failure-mode 001), Scope Contract (link to realworld pain)

### Changed

- `agents/qa-engineer.md`: เพิ่ม § Mutation Evidence ใต้ UI Test Evidence Template; provenance comment link to failure-mode 001
- `agents/orchestrator.md`: เพิ่ม § Scope Contract Enforcement (Oliver registry + 3 enforcement points)
- `agents/developer.md`: Process step ปรับจาก 8 → 10 (เพิ่ม Scope Contract pre + close); ข้อห้าม เพิ่ม "ห้าม Edit/Write โดยไม่ post Scope Contract"
- `.claude-plugin/plugin.json`, `marketplace.json`: version bump 2.4.0 → 2.4.1 + describe ใหม่

### Token economy

| File | Cost type | Δ tokens |
|------|-----------|----------|
| `skills/meeting/SKILL.md` | main context (every engagement) | **0** (no change — patched in lazy load files only) |
| `agents/orchestrator.md` | lazy (Oliver active) | +250 |
| `agents/qa-engineer.md` | lazy (Quinn active) | +180 (Mutation Evidence) + 30 (provenance) |
| `agents/developer.md` | lazy (Dave active) | +50 |
| `references/scope-lock.md` | lazy (when triggered) | +900 (new file, used on demand) |
| `docs/failure-modes/001-*.md` | not loaded by agent | +0 (reference for human + future Devil's Advocate) |

**Net effect on baseline engagement** (no implement work): 0 token added
**Net effect on engagement with implement** (load Dave + Oliver + scope-lock once): ~+1200 token, but offsets rework cost (Echo field alone saves 1 misinterpretation → typically saves 5000+ tokens of wrong work)

## [2.4.0] — Enforcement Edition

จากปัญหาจริง: agent (1) ไม่ค่อยทำ UI test แม้มี rule, (2) ยืนยัน fact ตาม real-world แต่ไม่ตรง project นี้ → เพิ่ม hard gate + evidence protocol

### Added

- **🎬 UI Test Hard Gate** (combo C — trigger + anti-puppet + scaffold + CI block)
  - **Trigger condition** (Quinn): Mandatory ถ้าไฟล์เปลี่ยนใน `frontend/`/`ui/`/`components/`/`pages/`/`views/` หรือ `*.vue`/`*.tsx`/`*.jsx`/`*.svelte`/`*.html` หรือ Uma involved หรือ AC pattern "When user clicks/sees/types..."
  - **Evidence template** (Quinn): Playwright console + visual diff path + axe critical/serious/total + trace path + 5 critical screen screenshots — incomplete = block PR
  - **Auto-scaffold** (Aaron): Web project type → pre-install `@playwright/test` + `@axe-core/playwright` + visual baseline (Chromatic/Percy/Loki) + folder convention `tests/{e2e,visual,a11y,fixtures}` + Makefile targets (`ui-test/ui-test-ui/ui-baseline/ui-codegen`) + parallel CI job
  - **Approval Gate `pre-merge-ui`** (7th gate, added to standard 6): block merge ถ้า UI changed but no Playwright/visual/axe evidence
  - **DoD updated**: visual+a11y entry → conditional UI test + evidence requirement

- **🔍 Project Evidence Protocol** (NO MAGIC philosophy extension)
  - **Strengthened Philosophy 1**: "real-world knowledge ≠ project's fact"
  - **Forbidden phrase list**: "usually" / "by default" / "typically" / "standard practice" / "should support" / "in most cases" — ใช้ = ต้อง cite project evidence ทันที
  - **Required evidence types**: runtime version (`node -v`), framework (`Read package.json:N`), config format (`Glob '**/application.*'`), dependency (`pnpm list`), feature (Bash output), file (`Glob` first), convention (CLAUDE.md), DB version (`SELECT version()`)
  - **Anti-puppet extended**: ❌/✅ pattern สำหรับ real-world guess vs project evidence
  - **Format**: ทุก factual claim cite `[<file>:<line>]` หรือ `[output: <command>]`
  - **Universal Rules**: เพิ่ม "ห้าม claim project fact จาก real-world knowledge"

### Changed

- meeting skill: NO MAGIC philosophy strengthened, Approval Gates 6 → 7 (added pre-merge-ui), DoD checklist UI test entry conditional, Anti-puppet extended with real-world-guess section
- Quinn (qa-engineer): Mandatory Pre-merge Gates + UI Test Trigger Condition + Evidence Template
- Aaron (devops-engineer): New section 2.5 UI Test Scaffold (Web project default)
- init.md: Aaron Phase 2 auto-trigger UI scaffold for Q1=Web app/Full-stack monorepo, Phase 3 Verify paste UI test output

## [2.3.0] — Sandcastle-Inspired Edition

Inspired by [mattpocock/sandcastle](https://github.com/mattpocock/sandcastle) ([video](https://www.youtube.com/watch?v=E5-QK3CDVQM)).

### Added

- **AFK / Interactive / Hybrid mode** (Oliver Phase 2 — บังคับเลือก option-style)
  - AFK = auto delegate, R0 only ask
  - Interactive = human approve ทุก hand-off
  - Hybrid (default) = AFK pre-deploy → Interactive deploy ขึ้น
  - Mode binds R0/R1/R2 enforcement

- **Pluggable Tracker** (replace hardcoded beads)
  - Support: beads (bd), GitHub Issues, Linear, Jira, Asana
  - Universal abstraction: `tracker.create/ready/close/link`
  - Bella + Oliver use tracker abstraction

- **Structured Tag Prefix** (extend `[agent]`)
  - Format: `[name|state:..|task:..|finding:..]`
  - Standard keys: state/task/engagement/file/finding/pass/fail/env/health/mode
  - Default human-readable; structured สำหรับ pipeline parser

- **`/shode-house:init` wizard** (interactive scaffold)
  - 6 option-style clarifying (project type/stack/domain/tracker/mode/sandbox)
  - Aaron scaffold + Bella seed + Oliver config (`.shode-house/config.yaml`)
  - Verify anti-puppet protocol (Phase 3)

- **Lifecycle Hooks** (per Phase Contract)
  - pre/post hook ทุก phase (clarify/design/implement/review/integration/deploy)
  - Aaron auto-trigger via Makefile/CI

- **Prompt Template Substitution** (commands convention)
  - Static: `{{PROJECT_NAME}} {{STACK}} {{DOMAIN}} {{TRACKER}} {{ENV}} {{ENGAGEMENT_ID}}`
  - Shell eval: `` {{!`bash command`}} ``

- **Sandbox Provider Table** (Aaron — Docker/Podman/Devcontainer/Codespaces/Vercel/Local)

- **Provider-agnostic agent note** (meeting skill intro)
  - Default: Claude. Portable to OpenCode/Codex via prompt structure

### Changed

- Engagement Plan template เพิ่ม `Mode` + `Tracker` field
- Bella RTM section เปลี่ยนจาก bd-only → tracker abstraction
- meeting skill: Tracking section restructure (table + selection)

## [2.2.1] — Agent Tag Prefix
- Mandatory `[agent]` prefix ทุก message สำหรับ visibility

## [2.2.0] — Bug Slayer Edition
- 13 mandatory layers (contract-first, type strict, mutation+property test, pre-merge integration smoke, visual+a11y block, canary+auto-rollback)
- 3 mandatory mechanisms (DoD checklist, Anti-puppet rule, Postmortem template, Docker verify protocol)

## [2.1.0]
- Skill rename: sd → meeting (`/shode-house:meeting`)

## [2.0.0]
- Plugin rename: sd → shode-house
- Commands: `/sd:*` → `/shode-house:*`

## [1.2.0]
- Adopt 4 Archon concepts (Phase Contract, Loop with Exit, Approval Gates, Worktree Isolation)

## [1.1.0]
- Lean audit: sd skill -44%, Dave -27%

## [1.0.0]
- Optimal Edition: consolidate, modernize, lazy-load references

## [0.x]
- Initial development (15 agents + 6 commands + 1 skill)
