# Arabic AI-Text Humanizer — Kimi CLI Installation Recipe

A self-contained installer for [Kimi CLI](https://moonshotai.github.io/kimi-cli/)
or any agent CLI that reads markdown and writes files. Kimi does not import
`.skill` archives — this file is the equivalent: read the instructions below
and recreate the skill directory tree on disk.

**Version:** v2.1.1 (provider-agnostic universal release)
**Skill name:** `arabic-ai-text-humanizer` (Arabic AI-text humanizer)

## Quick instructions for Kimi

1. Pick a target directory (typically your skills folder).
2. Create a sub-directory `arabic-ai-text-humanizer/` and the sub-sub-directories
   `references/`, `scripts/`, `evals/`, `corpus/` inside it.
3. For each `### File: <path>` block below, write a file at that path with
   the *exact* contents shown in the immediately-following code block.
4. Use UTF-8 encoding for every file. Preserve line breaks and indentation.
5. After all files are written, verify with:
   ```
   python arabic-ai-text-humanizer/evals/run_golden.py
   python arabic-ai-text-humanizer/evals/test_known_fragility.py
   ```

## How code-fence nesting works in this document

Each file's content is wrapped in a **5-backtick** outer fence. Inner
triple-backtick fences inside the content are part of the file and must
be preserved verbatim. When you write the file, strip the outer 5-backtick
wrappers only.

## Provider configuration after install

The skill is provider-agnostic — it talks to any OpenAI-compatible
chat-completions endpoint. Set three environment variables before running
any LLM-augmented mode (`--mode +cognitive`, `+rhetorical`, `full`):

```
# Moonshot (Kimi):
export LLM_API_URL=https://api.moonshot.cn/v1/chat/completions
export LLM_API_KEY=<your-moonshot-key>
export LLM_MODEL=moonshot-v1-8k

# OR OpenAI / MiniMax / Together / Groq / DeepSeek / local Ollama
# (see config.example.json for ready-made provider examples)
```

Deterministic modes (`--mode lex-only` and `--mode tighten`) need no API.

---

# Files

### File: arabic-ai-text-humanizer/LICENSE

`````text
MIT License

Copyright (c) 2026 Basil Aziz

Permission is hereby granted, free of charge, to any person obtaining a copy
of this software and associated documentation files (the "Software"), to deal
in the Software without restriction, including without limitation the rights
to use, copy, modify, merge, publish, distribute, sublicense, and/or sell
copies of the Software, and to permit persons to whom the Software is
furnished to do so, subject to the following conditions:

The above copyright notice and this permission notice shall be included in all
copies or substantial portions of the Software.

THE SOFTWARE IS PROVIDED "AS IS", WITHOUT WARRANTY OF ANY KIND, EXPRESS OR
IMPLIED, INCLUDING BUT NOT LIMITED TO THE WARRANTIES OF MERCHANTABILITY,
FITNESS FOR A PARTICULAR PURPOSE AND NONINFRINGEMENT. IN NO EVENT SHALL THE
AUTHORS OR COPYRIGHT HOLDERS BE LIABLE FOR ANY CLAIM, DAMAGES OR OTHER
LIABILITY, WHETHER IN AN ACTION OF CONTRACT, TORT OR OTHERWISE, ARISING FROM,
OUT OF OR IN CONNECTION WITH THE SOFTWARE OR THE USE OR OTHER DEALINGS IN THE
SOFTWARE.

`````

### File: arabic-ai-text-humanizer/.gitignore

`````text
# Never commit credentials or secrets
config.json
*.key
*.token
*.credentials
.env
.env.*
!config.example.json
!.env.example

# Python bytecode and caches
__pycache__/
*.pyc
*.pyo
*.pyd

# Local test artifacts
/tmp/
*.tmp
*.bak
*.licensebak
*.sectionsbak

# Editor / IDE
.vscode/
.idea/
*.swp
*.swo
.DS_Store

# Source JSONL corpus (user-supplied, regenerable; never commit raw data)
corpus/*.jsonl
corpus/*.bak

# Lock state files (ephemeral)
.lock_*

`````

### File: arabic-ai-text-humanizer/SKILL.md

`````markdown
---
name: arabic-ai-text-humanizer
description: Arabic-text humanizer scoring along 16 dimensions — cognitive structure, rhetorical figures, reader-respect, typography hygiene, and connector entropy. Six modes and four register policies gate which transformations fire; a pre-flight safety check flags factual/ethical/sourcing hazards. Scope is humanization, NOT localization — BCP47, ICU, SSML are out of scope. Provider-agnostic; works with any OpenAI-compatible LLM. Use when the user wants Arabic AI text rewritten with cognitive depth and classical-rhetoric awareness; also triggers on "humanize deep", "humanize cognitively", "humanizer v2", or "تحويل النص إلى أسلوب بشري عميق". Do NOT use for technical specs, code documentation, legal text, dialect-heavy/colloquial content, already-human text (run analyze-only instead), or English (Arabic-only).
---

# Arabic AI-Text Humanizer — Cognitive + Rhetorical + Reader-Respect Layer

## Languages supported

| Language | Status |
|---|---|
| **Modern Standard Arabic (MSA), classical-leaning** | ✅ Primary target — all 16 dimensions calibrated for this register |
| Arabic dialects (Egyptian, Levantine, Khaleeji, Maghrebi, etc.) | ❌ Not supported — lexical tables and dimensions assume MSA |
| Code-switched Arabic + English | ❌ Untested — English spans may be misprocessed |
| English | ❌ Out of scope — use a separate English-targeted humanizer |
| Right-to-left + left-to-right Bidi-mixed text | ⚠️ Plain text only; Bidi marks not preserved |
| Quranic recitation marks (U+06D6–U+06ED) | ⚠️ Preserved verbatim but not generated |

## Scope: Humanizer ≠ Localizer (per cross-LLM critique)

**This skill is a `Humanizer`, not a `Localizer`.** Load-bearing distinction:

- **Humanizer (this skill)** — takes AI-generated Arabic text, makes it less mechanical at the *style* and *cognitive-structure* layer. Outputs **Arabic prose**.
- **Localizer (out of scope)** — produces locale-specific product strings with BCP47 tags, ICU MessageFormat plurals, SSML, locale numerics, `<bdi>`/dir attributes, gender-aware UI. Outputs **product strings with metadata**.

External deep-research (May 2026) recommended adopting BCP47/ICU/SSML. Multiple LLM critiques independently flagged this as **scope conflation**: those tools build a different product. We DECLINED those recommendations and documented why.

## What "humanness" means here (per cross-LLM critique — gap that the framework had)

The skill optimizes a **ranked priority list**, not a single metric:

1. **Meaning preservation** — never let humanization rewrite a claim into a different claim
2. **Syntactic naturalness** — sentences must parse as native Arabic, not English-syntax transfer
3. **Register fit** — match the target policy (news/opinion/classical/technical)
4. **Economy** — prefer deletion over substitution when both yield grammatical output (the pro-drop heuristic)
5. **Anti-translationese** — reduce AI-tells (clichés, mechanical connectors, hyper-formal MSA)

When these conflict, earlier rules win. The 16-dimension analyzer measures (3-5) but trusts the lex pass to preserve (1-2). The pre-flight check (`preflight_check.py`) gates against violating (1) via factual/ethical guards.

## Summary

Reduces AI fingerprints in Arabic text along **16 dimensions** (was 14 prior to Dim 16 الفصل والوصل + Dim 15 typography). Dimensions 14 and 15 are *inverse-scored* (the score measures absence of bad patterns; high score = more restraint / cleaner typography). Combines a deterministic rule-based pass (clause-preserving substitutions + pro-drop deletion, both informed by cross-LLM critique) with an LLM-augmented cognitive pass that works against **any OpenAI-compatible chat-completions endpoint** (configure via `LLM_API_URL` / `LLM_API_KEY` / `LLM_MODEL`). Produces three artifacts per run: transformed text, dimension-by-dimension diagnostic report, and a humanness score (0-100 across 16 dimensions, max 240 points).

## Register taxonomy: it's a POLICY knob, not a linguistic genre

The 4 register options (`classical/news/opinion/technical`) are **product-policy categories** for gating which transformations fire — they are NOT recognized Arabic linguistic genres. An alternative proposed in deep-research (`msa-neutral/msa-helpful/msa-formal/msa-editorial`) is equally engineered-not-linguistic. Both are pragmatic; both are useful; neither maps cleanly to traditional Arabic register theory (فصحى التراث / فصحى المعاصرة / لغة الصحافة / لغة قانونية).

What the 4 register options actually gate (in `humanize_v2.py`):

- `classical` — enables ALL transformations including stylistic variation, rhetorical figures, sentence-length variance
- `opinion` — enables most transformations; allows quote-verb rotation (still env-gated)
- `news` (DEFAULT, SAFE) — skips stylistic risks: no jinas/saj, no quote-verb rotation, no aggressive sentence-length variance
- `technical` — most conservative: no structural-opener rewrites, no sentence-length variance, only typography + dim 14 deletions

Built from research synthesized across **4 LLM critiques** (cognitive-structure, rhetorical decomposition, transitions/literary-art, and historical/coherence perspectives) plus **empirical patterns mined from a reference Arabic corpus** — 100,000 records sampled, **1.31 million sentences and 71.28 million tokens** across four register categories (Qur'an, classical-and-modern prose, news, lexicon). The mining pass tracks 50 connector types and 50 sentence-initial-token types and completes in **≈87 seconds** for the 100K sample.

## Protocol

### Stage 0 — Detect and classify

```bash
python scripts/analyze_deep.py --input <file-or-text> --report
```

Outputs a 13-dimension diagnostic:
- For each dimension, a score 0-15 (judge-like) + diagnostic signals detected
- Overall humanness 0-100
- Recommended `--mode` based on what's weak

### Stage 1 — Lexical/structural pass (deterministic, no LLM)

```bash
python scripts/humanize_v2.py --input <file> --mode lex-only [--intensity 0.5]
```

Applies the deterministic lexical pipeline:
- Phrase substitution from `references/13-inherited-lexical-tables.md`, including:
  - AI-formulaic hedge deletion (`في الواقع`, `بكل تأكيد`, etc. — pro-drop where possible)
  - Clause-preserving formulaic-opener substitution (`أن`-bearing patterns)
  - **English-calque → native Arabic** (v2.2.0) — `خط أنابيب` → `مسار عمل` / `مسار العمل`
- **Calque dictionary** (v2.3.0, news/opinion only) — `corpus/calque-dictionary.json` holds 93 corpus-validated English-calque → natural-Arabic pairs across 9 domains (tech-software, tech-ai-ml, tech-data, tech-security, tech-infra, tech-consumer, business, news-journalism, politics). Built via multi-LLM swarm (Claude Sonnet) + frequency validation against an 8,850-article Arabic tech-news corpus (AITNews). Examples: `بدء التشغيل` → `شركة ناشئة`, `مونيتورينغ` → `مراقبة`, `الإعلام الاجتماعي` → `وسائل التواصل الاجتماعي`, `قطع الأشجار` → `تسجيل` (logging), `الرئيس التنفيذي` (high-confidence: 428 corpus hits).
- Connector swap (breaks the و-monoculture flagged by Dim 16 الفصل والوصل)
- Quote-verb rotation (env-gated only: `HUMANIZER_ALLOW_QUOTE_ROTATION=1`)
- Intensifier de-stacking
- Dim 14 anti-redundancy passes
- Pronoun diversification (register-gated: opinion/classical only)
- Sentence-length variance (register-gated: classical/opinion when intensity > 0.3)
- **Tashkeel reduction** (v2.2.0, register-gated: news/opinion strip; classical/technical preserve)
- Dim 15 typography hygiene (always last)

Deterministic with `--seed`. Reproducible. No LLM call. ~1s runtime.

#### Register × lex-pass gating

| Pass | classical | news | opinion | technical |
|---|:-:|:-:|:-:|:-:|
| Phrase substitution + connector swap | ✓ | ✓ | ✓ | ✓ |
| Pipeline-calque → workflow (v2.2.0) | ✓ | ✓ | ✓ | ✓ |
| Structural opener rewrites | ✓ | ✓ | ✓ | — |
| Quote-verb rotation (env-gated `=1`) | ✓ | — | ✓ | — |
| Pronoun diversification | ✓ | — | ✓ | — |
| Sentence-length variance | ✓ | — | ✓ | — |
| **Tashkeel reduction (v2.2.0)** | — | ✓ | ✓ | — |
| Dim 14 anti-redundancy | ✓ | ✓ | ✓ | ✓ |
| Dim 15 typography hygiene | ✓ | ✓ | ✓ | ✓ |

### Stage 2 — Cognitive pass (LLM-augmented)

```bash
# Set provider env vars once (any OpenAI-compatible endpoint):
export LLM_API_URL=https://api.openai.com/v1/chat/completions
export LLM_API_KEY=sk-...
export LLM_MODEL=gpt-4o-mini

python scripts/humanize_v2.py --input <file> --mode +cognitive --llm-backend api
```

Adds cognitive sophistication along dimensions 1-8:
- **Deduction** (الاستنتاج): inject visible reasoning steps — see `references/01-cognitive-structure.md`
- **Inference** (الاستدلال): argumentation chains using ladder structure
- **Induction** (الاستنباط): from-general-to-specific reframing
- **Human analysis methods** (التحليل البشري): comparison/classification reframing
- **Graduated explanation** (التدرج في الشرح): simple → complex scaffolding
- **Scope definition** (تحديد النطاق): explicit boundary markers
- **Idea transitions** (التنقل في الأفكار): spiral / linear / dialectic flows
- **Axes & data partitioning** (التقسيم للمحاور): orthogonal-axis reframing

Two backend slots are wired in `scripts/llm_transform.py`:

- `api` — any OpenAI-compatible cloud endpoint (no defaults, **must** be configured)
- `local` — defaults to Ollama on `127.0.0.1:11434`

Per-invocation overrides: `--backend-url`, `--auth-token`, `--model`. See `config.example.json` for provider configuration examples (OpenAI, Moonshot, MiniMax, Together, Groq, DeepSeek, etc.).

### Stage 3 — Rhetorical + coherence pass (LLM-augmented)

```bash
python scripts/humanize_v2.py --input <file> --mode +rhetorical --llm-backend api
```

Adds dimensions 9-13:
- **Literary art** (الفن الأدبي): rhythm, imagery, allusion
- **Historical anchoring** (الاستدلال التاريخي): event/historical evidence injection
- **Imagination/concretization** (التخيل): abstract → metaphor
- **Rhetorical figures** (البلاغة): جناس / طباق / سجع / كناية / استعارة used judiciously
- **Non-repetition + intra-text citation** (عدم التكرار + الاستدلال بما تم مناقشته)

### Stage 4 — Score and report

```bash
python scripts/score_humanness.py --before <orig> --after <transformed>
```

Outputs a side-by-side 13-dimension comparison with per-dimension delta. Score promotion bands: 0-40 mediocre, 41-70 good, 71-90 excellent, 91-100 indistinguishable.

### Full pipeline (one command)

```bash
python scripts/humanize_v2.py --input text.md --mode full --llm-backend api --analyze --output humanized.md
```

## Cost and latency

| Mode | LLM calls | Wall-clock per 1000-word input | Cost (depends on provider) |
|---|---|---|---|
| `lex-only` | 0 | ~1s | free (no API) |
| `+cognitive` | 1–2 | ~10–30s | ~1–2K input tokens + ~2–4K output tokens per call |
| `+rhetorical` | 2–3 | ~30–90s | ~3–7K total tokens across passes |
| `full` | 3–5 | ~45–120s | ~5–12K total tokens across passes |

Pick a model that fits your budget. For privacy, route via `--llm-backend local` (Ollama). For absolute reproducibility (no API at all), use `--mode lex-only` or `--mode tighten`.

## Example invocation

```bash
# Diagnose only — find out what's weak
python scripts/analyze_deep.py \
  --input "النص المولد بالذكاء الاصطناعي هنا..." \
  --report

# Light humanize (lexical only — deterministic, no API)
python scripts/humanize_v2.py \
  --input ai-generated.txt \
  --mode lex-only \
  --output light.txt

# Deep humanize (cognitive + rhetorical)
python scripts/humanize_v2.py \
  --input ai-generated.txt \
  --mode full \
  --llm-backend api \
  --output deep.txt \
  --analyze

# Score before/after
python scripts/score_humanness.py \
  --before ai-generated.txt \
  --after deep.txt \
  --json
```

## Worked example (Arabic input → humanized output)

**Input** (AI-generated, register: news, mode: tighten):

```
من المهم ملاحظة أن الاقتصاد السعودي يشهد نموا ملحوظا في القطاعات غير النفطية.
في الواقع، أكدت التقارير أن نسبة المشاركة في سوق العمل ارتفعت بشكل كبير.
علاوة على ذلك، فإن هذا النمو يعكس تنوعا متزايدا في مصادر الدخل.
```

**Command:**

```bash
python scripts/humanize_v2.py \
  --input above.txt --mode tighten --register news \
  --analyze --output cleaned.txt
```

**Output** (lex-only pass; pro-drop deletions removed `من المهم ملاحظة أن`, `في الواقع`, and the connector `علاوة على ذلك` is swapped to `كما أن`):

```
يشهد الاقتصاد السعودي نموا ملحوظا في القطاعات غير النفطية.
أكدت التقارير أن نسبة المشاركة في سوق العمل ارتفعت بشكل كبير.
كما أن هذا النمو يعكس تنوعا متزايدا في مصادر الدخل.
```

**Dimensions that fired:** Dim 14 (reader-respect, +3 from removing 2 hedges), Dim 16 (الفصل والوصل, +2 from connector diversification), Dim 15 (typography unchanged — input already clean). Net humanness delta: ~+5/240, runs in <1s, no API call.

## Pairing (optional, if available in your environment)

- **A lexical-only sibling humanizer** — If you have a faster, lexical-only Arabic humanizer (or this skill's `--mode lex-only`), use it when only surface-level changes are wanted.
- **An Arabic morphology/syntax engine** (e.g., camel_tools, or any ishtiqaq/nahw/sarf rule engine) — The rhetorical pass benefits from grammatical validation but does not require it.
- **The mined corpus** — `corpus/empirical-patterns.json` ships pre-computed (100K records / 1.31M sentences / 71.28M tokens / ≈87s mining time across 4 register categories); runtime needs no corpus access. To re-mine against your own JSONL, set `ARABIC_CORPUS_PATH` and run `scripts/mine_corpus.py`.
- **An "inversion" or "adversarial review" skill**, if you have one — useful for pre-analysis ("what would the AI-shape failure look like?") and post-pass cross-LLM challenge before publication.

## References

Each dimension has its own deep-dive file. The synthesis pulled from 4 LLM critiques + 100K-record corpus mining.

- `references/01-cognitive-structure.md` — Deduction, inference, induction (dims 1-3, 4) + scope (dim 6)
- `references/02-graduated-explanation.md` — Simple → complex scaffolding (dim 5)
- `references/03-idea-transitions.md` — Spiral / linear / dialectic flows (dim 7)
- `references/04-axes-and-data-partitioning.md` — Orthogonal-axis decomposition (dim 8)
- `references/05-literary-art.md` — Aesthetic / الفن الأدبي (dim 9)
- `references/06-historical-anchoring.md` — Event-based & historical evidence (dim 10)
- `references/07-imagination-concretization.md` — Abstract → metaphor (dim 11)
- `references/08-rhetorical-figures.md` — جناس / طباق / سجع / كناية / استعارة (dim 12)
- `references/09-coherence-non-repetition.md` — Non-repetition + intra-text citation (dim 13)
- `references/10-register-modulation.md` — MSA layer modulation (elevate vs. ground)
- `references/11-sentence-rhythm.md` — Length variance, parallelism breaks
- `references/12-corpus-findings.md` — Empirical statistics from the reference-corpus mining
- `references/13-inherited-lexical-tables.md` — Deterministic lexical-substitution tables
- `references/14-reader-respect.md` — Reader-respect / احترام عقل القارئ (INVERSE-scored: anti-tautology, anti-re-explanation, surprise, leave-deduction-to-reader, productive ambiguity)
- `references/15-typography-hygiene.md` — Typography hygiene / نظافة الصياغة (INVERSE-scored, mechanical: Arabic-English spacing, Arabic punctuation, paren spacing, numbering, tables)
- `references/16-fasl-wa-wasl.md` — الفصل والوصل (DISTRIBUTIONAL — Shannon entropy of connector diversity; monoculture of `و` flagged as 2/15, classical-rich connector distribution scores 13-15/15)
- `scripts/preflight_check.py` — Factual / ethical / sourcing-hygiene pre-flight check (flags unsourced statistics, named-quote attributions, loaded group generalizations, anonymous-source chains, sweeping claims, hostile attribution verbs). FLAGS only — does NOT transform.

## Composing with a lexical-only sibling

If you also have access to a lighter lexical-only Arabic humanizer (or use this skill's `--mode lex-only`), the run-order matters:

| Order | Result | Recommended? |
|---|---|---|
| **This skill alone** | Full 16-dim transformation with register-aware gating | ✅ Recommended for sophisticated text |
| **Lex-only sibling alone** | Lexical-only humanization, ~1s | ✅ Use when speed > sophistication |
| **Sibling → this skill** | This skill receives lex-cleaned input, adds cognitive layer | ✅ Acceptable but redundant (this skill already runs the lex pass) |
| **This skill → sibling** | Sibling's lex pass flattens cognitive/rhetorical structure | ❌ DO NOT — undoes the cognitive work |
| **`--mode tighten`** | Inverse-scored dims 14+15 only — newsroom subediting | ✅ Recommended for news copy |

Arabic only — for English text use a separate English-targeted humanizer.

## Pipeline composition

Within this skill, run-order matters. The DEFAULT pipeline is:

```
[Input Text]
    ↓
[Pre-flight check (--preflight)]  → flags factual/ethical issues; does NOT transform
    ↓
[Lex pass (register-aware)]  → safe normalization
    ↓
[Cognitive pass (--mode +cognitive/+rhetorical/full)]  → LLM-augmented (needs proxies)
    ↓
[Typography hygiene (always last)]  → normalize Arabic-English spacing + punctuation
    ↓
[Diagnostic report]
```

**Recommended mode for unknown content**: `--mode tighten --register news --preflight` — runs the pre-flight check, then tightens only (deletions + typography), no risky additions.

**Known future work** (raised by cross-LLM critique, not yet addressed):
- Factual/ethical guardrail integration (currently a separate script; could be wired as pre-flight stage)
- إيحاء/كناية framing as deeper sub-dimension of dim 14 (editorial finding)
- Stratified corpus mining (genre-weighted sampling instead of 100K sequential)
- Positive-polarity score reframing (dim 14 → "Cognitive Restraint Score", dim 15 → "Typographic Precision Score")
- `corpus/empirical-patterns.json` — Machine-readable corpus statistics (consumed by scripts)
- `scripts/analyze_deep.py` — 13-dimension diagnostic analyzer (replaces v1's lexical-only `analyze_text`)
- `scripts/humanize_v2.py` — Multi-pass transformation pipeline (replaces v1's single-pass `humanize`)
- `scripts/mine_corpus.py` — One-time corpus miner (produces empirical-patterns.json)
- `scripts/score_humanness.py` — 13-dimension scoring rubric
- `scripts/llm_transform.py` — LLM-call wrapper with OpenAI-compatible-API + local-Ollama routing

## Version history

| Version | What changed |
|---|---|
| **v2.3.0** | **Calque-translation dictionary** — `corpus/calque-dictionary.json` (93 entries, 9 domains, 27 high-confidence + 66 medium). Built via multi-LLM swarm (Claude Sonnet) on 181 seed English terms, validated against an 8,850-article Arabic tech-news corpus (AITNews; 2.88M tokens). New `lex_apply_calque_dictionary()` runs in news/opinion registers (classical/technical preserve source). Double-ال handling for substitutions where input has definite article but key/natural don't agree on prefix. 3 new fragility test classes (T12–T14): dictionary-load verification, multi-domain calque catches, register-gating. Fragility suite now 31/31. |
| v2.2.0 | `lex_reduce_tashkeel()` added — strips 9 canonical combining diacritics in news/opinion (classical/technical preserve). Hamza-safe (preserves أ إ آ ء ؤ ئ ى) and digit-safe (preserves ٠–٩). Pipeline-calque `خط أنابيب` → `مسار عمل` / `مسار العمل` / `تسلسل العمل` added to `AI_PHRASES_AR`. Five new fragility test classes (T7–T11): hamza preservation, madda preservation, digit preservation, calque substitution, register-gated tashkeel policy. |
| v2.1.3 | Arabic editorial pass on documentation: replaced English-calque "pipeline" with "مسار عمل" in README.ar.md; reduced ~96% of tashkeel marks in prose; preserved classical-Arabic quotations within `«»` / `""` brackets. |
| v2.1.2 | `examples/` directory added — 6 byte-deterministic worked examples covering register × mode combinations. README + README.ar.md gained source-size + effort disclosure. |
| v2.1.1 | Corpus-stats refactor: replaced `8.5 GB classical-Arabic dataset` wording with lexicon-level statistics (1.31M sentences / 71.28M tokens / 4 register categories / ~87s mining time). Multi-LLM CLI security audit (regex + Claude Sonnet + Codex). Hardcoded path leak in `corpus/empirical-patterns.json` redacted. |
| v2.1.0 | Provider-agnostic refactor. `BACKENDS` dict collapsed from `kimi`/`minimax`/`local` to `api`/`local`. Universal env vars `LLM_API_URL` / `LLM_API_KEY` / `LLM_MODEL`. CLI overrides `--backend-url`/`--auth-token`/`--model`. `INSTALL-FOR-KIMI.md` added (markdown installer for Kimi CLI which doesn't import .skill ZIPs). |
| v2.0.0 | Initial public release. 16-dimension humanness framework, 6 modes, 4 register policies, cross-LLM-critique-informed lexical layer, pre-flight safety check, 20 golden tests + 12 fragility assertions. |

## Anti-Patterns (NEVER do)

- NEVER apply `+rhetorical` to technical specifications, legal text, or code documentation — embellishment is harmful here
- NEVER apply ALL 13 dimensions at maximum intensity to the same text — produces parody, not human-like prose; pick the 2-3 weakest per the analyzer
- NEVER skip stage 0 (diagnostic) — random transformation degrades text that's already mostly human
- NEVER bypass `--seed` reproducibility when running in production — same input must produce same output
- NEVER feed dialect/colloquial Arabic into this skill — it targets MSA / classical-leaning register only
- NEVER use the rhetorical-figure injector without consulting `references/08-rhetorical-figures.md` for the "when NOT to use جناس/طباق" warnings
- NEVER call this skill for English text — this skill is Arabic-only; use an English-targeted humanizer for English
- NEVER trust the humanness score as ground truth — it's a heuristic that approximates a human reader, not a perfect detector
- NEVER overwrite the input file without `--inplace --confirm` — default is write to `--output` path
- NEVER include PII in test runs — the LLM-augmented modes send content to whichever cloud endpoint `LLM_API_URL` points at; route sensitive content through `--llm-backend local` (or stay in `--mode lex-only`/`tighten`) instead

`````

### File: arabic-ai-text-humanizer/config.example.json

`````json
{
  "$schema_version": "2.0",
  "$description": "Example configuration for the Arabic Humanizer skill. Copy to config.json and edit, OR set the equivalent environment variables. The skill is provider-agnostic: any OpenAI-compatible chat-completions endpoint works.",

  "backends": {
    "api": {
      "$comment": "Cloud OpenAI-compatible endpoint. NO URL DEFAULT — you MUST set LLM_API_URL (or pass --backend-url at the CLI). LLM_MODEL is also required and must be the exact model identifier your provider expects.",
      "url_env": "LLM_API_URL",
      "url_default": "",
      "key_env": "LLM_API_KEY",
      "model_env": "LLM_MODEL",
      "model_default": "",
      "timeout_env": "LLM_TIMEOUT_S",
      "timeout_default_seconds": 300
    },
    "local": {
      "$comment": "Ollama or any OpenAI-compatible local server. Defaults to Ollama on 127.0.0.1:11434. Key usually not required.",
      "url_env": "LOCAL_API_URL",
      "url_default": "http://127.0.0.1:11434/v1/chat/completions",
      "key_env": "LOCAL_API_KEY",
      "model_env": "LOCAL_MODEL",
      "model_default": "qwen2.5:14b-instruct",
      "timeout_env": "LOCAL_TIMEOUT_S",
      "timeout_default_seconds": 300
    }
  },

  "$provider_examples": {
    "$comment": "Real public endpoints + canonical model IDs. Pick one and set LLM_API_URL + LLM_MODEL accordingly.",
    "openai":   {"LLM_API_URL": "https://api.openai.com/v1/chat/completions",        "LLM_MODEL": "gpt-4o-mini"},
    "moonshot": {"LLM_API_URL": "https://api.moonshot.cn/v1/chat/completions",       "LLM_MODEL": "moonshot-v1-8k"},
    "minimax":  {"LLM_API_URL": "https://api.minimaxi.chat/v1/text/chatcompletion_v2","LLM_MODEL": "abab6.5s-chat"},
    "together": {"LLM_API_URL": "https://api.together.xyz/v1/chat/completions",      "LLM_MODEL": "Qwen/Qwen2.5-72B-Instruct"},
    "groq":     {"LLM_API_URL": "https://api.groq.com/openai/v1/chat/completions",   "LLM_MODEL": "llama-3.3-70b-versatile"},
    "deepseek": {"LLM_API_URL": "https://api.deepseek.com/v1/chat/completions",      "LLM_MODEL": "deepseek-chat"}
  },

  "$feature_flags": {
    "HUMANIZER_ALLOW_QUOTE_ROTATION": {
      "$comment": "Off by default. When set to '1', the lexical pass may rotate neutral quote verbs (e.g. قال → يَزعم) for stylistic variation. Cross-LLM critique flagged this as editorial-stance shift, not neutral substitution; only enable for opinion/classical registers where stance shifts are acceptable. Anything else: leave unset.",
      "default": "unset",
      "enable_value": "1"
    }
  },

  "$corpus_note": "The skill ships with corpus/empirical-patterns.json (mined from a 100K-record sample = 1.31M sentences = 71.28M tokens across 4 register categories: quran, classical-and-modern, news, lexicon; mining time ~87s). Re-mining is only needed if you want to substitute a different reference corpus. Set ARABIC_CORPUS_PATH env var to your own JSONL.",

  "$quickstart": [
    "# Deterministic mode (no LLM, runs offline, ~1s):",
    "python scripts/humanize_v2.py --file input.txt --mode tighten --register news --output cleaned.txt",
    "",
    "# With LLM — Step 1: pick a provider and set env vars (POSIX shell):",
    "export LLM_API_URL=https://api.openai.com/v1/chat/completions",
    "export LLM_API_KEY=sk-your-key-here",
    "export LLM_MODEL=gpt-4o-mini",
    "",
    "# With LLM — Step 1 (PowerShell):",
    "# $env:LLM_API_URL = 'https://api.openai.com/v1/chat/completions'",
    "# $env:LLM_API_KEY = 'sk-your-key-here'",
    "# $env:LLM_MODEL   = 'gpt-4o-mini'",
    "",
    "# With LLM — Step 2: run a cognitive-augmented humanization:",
    "python scripts/humanize_v2.py --file input.txt --mode +cognitive --llm-backend api --output deep.txt --analyze",
    "",
    "# OR override env per invocation:",
    "python scripts/humanize_v2.py --file input.txt --mode +cognitive --llm-backend api \\",
    "   --backend-url https://api.moonshot.cn/v1/chat/completions \\",
    "   --auth-token your-moonshot-key --model moonshot-v1-8k --output deep.txt",
    "",
    "# Safety pre-flight (catches loaded generalizations, anonymous sources, etc.):",
    "python scripts/humanize_v2.py --file input.txt --preflight --strict-preflight --mode tighten --register news --output safe.txt",
    "",
    "# Diagnostic only (no transformation):",
    "python scripts/analyze_deep.py --file input.txt --report",
    "",
    "# Verify the skill works on this machine:",
    "python evals/run_golden.py"
  ]
}

`````

### File: arabic-ai-text-humanizer/references/01-cognitive-structure.md

`````markdown
# البنية المعرفية — Cognitive Structure (Deduction · Inference · Extraction · Scope)

يعالج هذا الملف أربعة أبعاد متلازمة تحكم بناء الحجة في النص العربي: الاستنتاج، الاستدلال، الاستنباط، تحديد النطاق. النصوص المولدة آليا تميل إلى تقرير النتائج بلا سلم منطقي ظاهر — فتأتي العبارات مسطحة، تذكر الحكم دون عرض المقدمة، وتعمم دون تحديد. التراث العربي (من المنطق السينوي إلى أصول الفقه) يعتمد على إظهار الانتقال من المقدمة إلى النتيجة، وتحديد محل النزاع قبل الاستدلال.

## التقنيات

### 1. سلم المقدمات الظاهرة (الاستنتاج)
أدرج المقدمتين قبل النتيجة بدل القفز إلى الحكم. استخدم رابطا منطقيا صريحا (فـ، إذن، لذا، يلزم من ذلك).

**قبل (مسطح):** التعليم عن بعد أقل فاعلية من التعليم الحضوري في المراحل الأولى.
**بعد (محبوك):** المتعلم في المرحلة الابتدائية يحتاج إلى ضبط سلوكي مستمر، وضبط السلوك يستلزم حضورا مباشرا من المعلم؛ فيلزم من ذلك أن التعليم عن بعد في هذه المرحلة يفقد ركنا جوهريا، لا أن يكون مجرد "أقل جودة".
**لماذا ينجح:** يظهر للقارئ خط الاستدلال، فيشاركه التفكير لا التلقي.
**متى تطبق:** المقالات الرأيية، التحليلات، النصوص التعليمية.
**متى لا تطبق:** الأخبار العاجلة، الملخصات التنفيذية، حيث يطلب الحكم لا برهانه.

### 2. تفكيك "إذن" المضمرة
كل "إذن" أو "بالتالي" في نص الذكاء الاصطناعي تخفي خطوة محذوفة. أعد بناءها بإظهار الحلقة الناقصة.

**قبل:** ارتفعت الأسعار، بالتالي انخفض الطلب.
**بعد:** ارتفعت الأسعار، وارتفاع السعر يصرف المستهلك ذا الدخل المحدود إلى البديل أو الإمساك؛ فلا غرابة أن نرى الطلب يتراجع تباعا.
**لماذا ينجح:** يكسر القفز السببي المباشر الذي هو من أوضح بصمات النص الآلي.
**متى تطبق:** عند كل علاقة سببية مذكورة بلا تفصيل.
**متى لا تطبق:** السياقات الصحفية المختصرة، حيث القفز السببي مقبول لغرض الإيجاز.

### 3. سلسلة الاستدلال بالأدوات الكلاسيكية
استثمر روابط الاستدلال التي يظهرها الكوربوس بكثافة في النصوص الكلاسيكية: "إن... فـ"، "ولو سلم أن... للزم"، "وعلى أن"، "بل". هذه الأدوات تحمل بنية حجاجية لا تحملها كلمة "لذلك" المنفردة.

**قبل:** هذا الرأي ضعيف لأنه يخالف الأصل.
**بعد:** هذا الرأي — على فرض صحة مقدمته — يفضي إلى مخالفة الأصل المستقر؛ ولو سلم به للزم نقض ما اتفق عليه في الباب، بل ربما خرب أصلا غيره.
**لماذا ينجح:** يضع الحجة في سياق نتائجها لا في مجرد وصفها، وهو نمط متبع في الجدل الأصولي.
**متى تطبق:** عند نقد رأي أو طرح مقابل.
**متى لا تطبق:** العرض الحيادي، حيث يبدو الكاتب متحيزا لو استعمل هذا الأسلوب.

### 4. الاستنباط من العام إلى الخاص
خذ القاعدة العامة، ثم اشتق منها حكما جزئيا غير منصوص. هذا هو جوهر الاستنباط الفقهي.

**قبل:** الذكاء الاصطناعي يغير سوق العمل، وقد يؤثر على المحاسبين.
**بعد:** القاعدة أن المهن التي تقوم على تطبيق قواعد مغلقة قابلة للأتمتة بدرجة أعلى من المهن القائمة على الحكم التقديري؛ ويتفرع على هذا أن المحاسبة التشغيلية أكثر هشاشة من التدقيق القضائي، وأن المراجعة الضريبية الروتينية أقرب إلى الأتمتة من تقدير الأضرار التأمينية.
**لماذا ينجح:** يحول تعميما مبهما إلى نسيج من الأحكام الجزئية الدقيقة.
**متى تطبق:** التحليلات، الدراسات، النصوص الاستشارية.
**متى لا تطبق:** المقالات المختصرة، حيث يثقل النص بالتفريع.

### 5. تحديد محل النزاع (Scope Definition)
ابدأ بتحديد ما تتكلم عنه بدقة، وما لا تتكلم عنه. الأصوليون يسمونه "تحرير محل النزاع"، ومن دونه يصير الكلام عاما غامضا.

**قبل:** الذكاء الاصطناعي مفيد ولكنه يحمل مخاطر.
**بعد:** الحديث هنا عن نماذج اللغة التوليدية تحديدا، لا عن أنظمة التوصية ولا أنظمة الرؤية الحاسوبية؛ والمقصود بالمخاطر: مخاطر الموثوقية المعرفية، لا الإزاحة الوظيفية ولا حقوق التأليف — فلكل منهما بحث مستقل.
**لماذا ينجح:** يظهر للقارئ أن الكاتب يعرف حدود مقاله، وهي علامة وعي معرفي يصعب على النموذج تقليدها.
**متى تطبق:** افتتاحيات المقالات الطويلة، الدراسات.
**متى لا تطبق:** المقالات القصيرة (< 300 كلمة)، حيث يستهلك النص في التحديد قبل الوصول إلى الموضوع.

### 6. الاحتراز بصيغة "على أن"
أدخل قيدا بعد تقريرك للنتيجة. أداة "على أن" مستعملة 189 مرة في الكوربوس، وهي ترسي تواضعا معرفيا ظاهرا.

**قبل:** هذا الحل هو الأمثل.
**بعد:** هذا الحل يبدو الأقرب إلى المطلوب، على أنه مشروط ببقاء الظروف الحالية، وأن تغير متغير واحد منها — كالتمويل أو السياسة — قد يعيد المسألة من جديد.
**لماذا ينجح:** القيد بعد الحكم سمة الكاتب الحذر؛ غيابه سمة الكاتب الآلي الذي يقرر بثقة مفرطة.
**متى تطبق:** كل موضع يصدر فيه حكم قاطع.
**متى لا تطبق:** النصوص الإعلانية أو التحريضية، حيث الإقناع لا يحتمل التحفظ.

## إشارات تشخيصية (متى يكون هذا البعد ضعيفا)

- روابط نتيجة بلا مقدمات: "بالتالي / لذلك / وبناء عليه" تظهر دون أن يسبقها سلم منطقي.
- أحكام قاطعة بلا تحفظ: نسبة جمل بنبرة جزم > 70% من المجموع.
- غياب أدوات تحديد النطاق: لا توجد عبارات مثل "في حدود... / المقصود هنا... / لسنا بصدد...".
- تعميمات بلا تفريع: تذكر القاعدة العامة وتنتقل دون اشتقاق جزئيات منها.
- خلو النص من "بل" و"على أن" و"ولو سلم": الكوربوس يظهر "بل" 809 مرة و"على أن" 189 — غيابها التام علامة.
- روابط استدلال موحدة: تكرار "لأن / لأن" دون تنوع نحو "إذ / حيث / فإن / لما كان".

## أخطاء شائعة عند التطبيق

- إغراق كل فقرة بمقدمتين ونتيجة — يحول النص إلى تمارين منطقية لا إلى نثر.
- استعمال "ولو سلم" و"بل" في غير موضع الجدل، فيبدو الكاتب متشنجا.
- تحديد النطاق في مقال قصير، فيستهلك المقال في التمهيد.
- الاستنباط من قواعد غير مسلمة، فيصير الفرع أضعف من الأصل.
- الإكثار من "على أن" حتى يصير النص كله تحفظات بلا أحكام.

## مثال متكامل (~150 كلمة)

**الأصل (آلي):** الذكاء الاصطناعي سيحدث ثورة في التعليم. سيتعلم الطلاب بسرعة أكبر، وستتحسن النتائج. على المعلمين التكيف مع هذا الواقع الجديد. من المهم ملاحظة أن هذا التحول يتطلب استثمارات. في النهاية، الفوائد ستتجاوز التحديات.

**بعد المعالجة:** الحديث هنا عن أدوات الذكاء التوليدي المدمجة في الفصل، لا عن منصات الإدارة الإلكترونية ولا التقييم الآلي — فلكل بابه. وحين نقول "أثرا تعليميا"، فالمقصود سرعة استيعاب المفاهيم لا المهارات الاجتماعية ولا التكوين الأخلاقي. ولأن المعرفة كلما خف احتكاكها بالمتعلم خف رسوخها، فإن التسريع الذي تعد به هذه الأدوات قد ينتج فهما سطحيا سريع التبخر، لا فهما عميقا بطيء التكون؛ بل ربما زاد العبء على المعلم حين يصير دوره تصحيح المسلمات لا تأسيسها. على أن الحكم هنا مشروط بأن تظل مهمة المعلم: غرس البنية المعرفية، لا توصيل المعلومة فحسب — وهذا فرض قابل للنقض إن تغيرت غاية المدرسة نفسها.

**ما الذي تغير:**
- تحديد النطاق صراحة في الجملة الأولى (أدوات توليدية، لا منصات إدارة).
- تحديد محل "الأثر" (سرعة الاستيعاب، لا المهارات الاجتماعية).
- سلم منطقي ظاهر: المعرفة بلا احتكاك → فهم سطحي → عبء جديد.
- استعمال "بل" لتصعيد الحجة لا للإضافة.
- "على أن" مع شرط معرفي يظهر تواضع الكاتب.

`````

### File: arabic-ai-text-humanizer/references/02-graduated-explanation.md

`````markdown
# التدرج في الشرح من البساطة — Graduated Explanation

البعد المعرفي الذي يبني الفهم طبقة طبقة: من المحسوس إلى المجرد، ومن المثال إلى القاعدة، ومن المتفق عليه إلى المختلف فيه. النصوص الآلية تنقض هذا التدرج: إما تسطح المركب فتفقده دقته، أو تعقد المبسط فتفقد القارئ. التراث التعليمي العربي — من "المقدمة" لابن خلدون إلى "إحياء علوم الدين" للغزالي — يضرب المثل قبل القاعدة، ويسلم في كل خطوة بما هو ضروري للخطوة التالية.

## التقنيات

### 1. المثال الحسي قبل المفهوم المجرد
ابدأ بمثال يعرفه القارئ من حياته، ثم استخرج منه القاعدة. ابن خلدون لا يبدأ بـ "العصبية" تعريفا، بل بمشاهد القبيلة والمدينة، ثم ينتزع المفهوم منها.

**قبل (آلي):** الاحتباس الحراري ظاهرة ناتجة عن تراكم غازات الدفيئة في الغلاف الجوي مما يؤدي إلى ارتفاع متوسط درجة حرارة الأرض.
**بعد (متدرج):** سيارة تركتها في الشمس ساعتين، أغلقت نوافذها — حين تعود تجدها أحر بكثير من الجو خارجها. الزجاج يسمح للشمس بالدخول ويمنع الحرارة من الخروج. الأرض في علاقتها بغلافها الجوي تشبه هذه السيارة، والغازات التي ينشرها الإنسان تجعل الزجاج أكثف.
**لماذا ينجح:** ينقل القارئ من خبرته اليومية إلى مفهوم علمي بقفزة قصيرة لا قفزتين.
**متى تطبق:** الكتابة التفسيرية، التعليمية، التبسيط العلمي.
**متى لا تطبق:** النصوص التي يفترض فيها أن القارئ مختص ولا يحتاج إلى التمثيل.

### 2. سلسلة "ما الذي يلزم لفهم هذا؟"
قبل أن تذكر المفهوم الصعب، اذكر ما يتوقف عليه من مفاهيم أصغر. هذا هو "ترتيب المسائل" عند الأصوليين.

**قبل (آلي):** الذكاء الاصطناعي العام هدف بعيد لأن نماذج اللغة الحالية تفتقر إلى التمثيل الرمزي.
**بعد (متدرج):** قبل الحكم على بعد الذكاء العام، نحتاج تمييز ثلاثة أشياء: ما المقصود بـ "الذكاء"، وما الفرق بين "ضيق" و"عام"، وما عجز التمثيل الرمزي. أما الذكاء، فالمقصود هنا قدرة على الانتقال بين المجالات، لا الإجادة في مجال واحد. وأما الضيق والعام، فالأول يبرع في مهمة، والثاني ينقل البراعة. وأما التمثيل الرمزي، فهو تمثيل الفكرة بوحدة قائمة بذاتها يمكن التلاعب بها منطقيا — وهذا ما ينقص النموذج الإحصائي. بهذا التمهيد يتبين لماذا الطريق بعيد.
**لماذا ينجح:** يهيئ ذهن القارئ لكل خطوة قبل أن يصل إليها.
**متى تطبق:** الموضوعات التقنية أو الفقهية أو الفلسفية المركبة.
**متى لا تطبق:** المقالات القصيرة، حيث يطغى التمهيد على الموضوع.

### 3. الانتقال بـ "أما... فـ" الكلاسيكي
الكوربوس يظهر "واما" بداية جملة 1983 مرة. هذه الأداة تخدم التدرج لأنها تفصل عناصر متراكبة وتعرف كلا قبل المضي.

**قبل:** هناك عوامل متعددة: السكان، الاقتصاد، السياسة، البيئة.
**بعد:** العوامل أربعة. أما السكان فيؤثرون من جهة الكثافة لا العدد المجرد. وأما الاقتصاد فالمقصود البنيوي منه لا الدوري. وأما السياسة فالاستقرار قبل التوجه. وأما البيئة فالقابل للتحول منها فقط.
**لماذا ينجح:** يحول قائمة مسطحة إلى تفصيل طبقي.
**متى تطبق:** عند تعداد عناصر تحتاج كل منها إلى تخصيص.
**متى لا تطبق:** القوائم القصيرة (عنصرين أو ثلاثة)، حيث يثقل النص.

### 4. التمهيد بالمسلمة قبل النقطة الخلافية
لا تطرح الخلاف قبل أن تثبت ما يتفق عليه. الغزالي في "إحياء علوم الدين" يقرر المسلمات أولا ثم يدخل إلى محل الخلاف، فيحسم القارئ معه قبل أن يتم الجملة.

**قبل:** هناك خلاف حول ما إذا كان الذكاء الاصطناعي خطرا وجوديا.
**بعد:** يتفق المتخصصون على شيئين: أن النماذج الحالية تتجاوز ما كان متوقعا قبل عقد، وأن منحنى التحسن لم يستقر بعد. ومن هذين المتفق عليهما، ينشأ السؤال الخلافي: هل هذا المنحنى — إن استمر — يفضي إلى نظام يفوق الإدراك البشري؟ هنا يفترق الباحثون.
**لماذا ينجح:** يكسب الكاتب ثقة القارئ المختلف معه قبل عرض الخلاف.
**متى تطبق:** الموضوعات الجدلية.
**متى لا تطبق:** السرد التاريخي، حيث الحدث لا يحتاج إلى تمهيد جدلي.

### 5. التكرار الصاعد (Reformulation Ascending)
أعد صياغة الفكرة نفسها مرتين أو ثلاثا، كل مرة بدقة أعلى. مثل ما يفعل ابن سينا في "الإشارات": يقول الفكرة عامية، ثم يدققها، ثم يحررها.

**قبل:** الفلسفة تدرس أسئلة كبرى.
**بعد:** الفلسفة تدرس الأسئلة الكبرى — أعني تلك التي لا يجيب عنها علم بعينه. وأدق من ذلك: التي يفترضها كل علم ولا يستطيع أن يبرهن عليها من داخله. وأدق: التي حين تسأل عنها، تسأل عن الأرضية التي تقف عليها لا عما يقع عليها.
**لماذا ينجح:** يحاكي حركة الفهم الحقيقي، الذي يدور حول الفكرة قبل أن يمسك بها.
**متى تطبق:** المفاهيم الفلسفية، التعريفات الدقيقة.
**متى لا تطبق:** النصوص العملية أو الإجرائية.

### 6. التحذير من القفزة قبل القفز
حين تنتقل من بسيط إلى مركب، أخبر القارئ. عبارة "وهنا يدخل الأمر طورا آخر" تهيئ الانتباه.

**قبل:** التعلم العميق يستعمل الشبكات العصبية لاستخراج التمثيلات.
**بعد:** حتى الآن، الفكرة بسيطة: شبكة تتعلم من أمثلة. لكن هنا يدخل الأمر طورا آخر — لأن الشبكة لا تتعلم الأمثلة، بل تتعلم تمثيلا للأمثلة، أي صورة داخلية لها بعد لا يماثل أيا من سماتها الظاهرة.
**لماذا ينجح:** يمنع القارئ من الفقد عند المنعطف المعرفي.
**متى تطبق:** الانتقالات المفهومية الكبرى.
**متى لا تطبق:** كل فقرة — يصير التحذير ضوضاء.

## إشارات تشخيصية

- المفهوم الصعب يظهر في الجملة الأولى دون تمهيد.
- لا توجد أمثلة حسية قبل التعريفات المجردة.
- التعدادات (1، 2، 3) دون تخصيص لكل عنصر.
- غياب "أما... فـ" في نص طويل (الكوربوس يظهرها 1983 مرة).
- ثبات المستوى المعرفي على امتداد النص — لا صعود ولا نزول.
- التعريفات مذكورة مرة واحدة بصيغة قاموسية، لا معادة بدقة متصاعدة.

## أخطاء شائعة

- الإفراط في التبسيط حتى يفقد المفهوم دقته (التبسيط ≠ التسطيح).
- إغراق المثال الحسي بالتفاصيل، فينسي المفهوم.
- التمهيد بمسلمات لا يقبلها القارئ المستهدف.
- التكرار الصاعد بدون زيادة دقة فعلية — يصير حشوا.
- استعمال "أما... فـ" لعنصرين فقط — أداة مثقلة لقائمة قصيرة.

## مثال متكامل (~150 كلمة)

**الأصل (آلي):** البلوكتشين تقنية لامركزية لتسجيل المعاملات بشكل آمن. تستعمل التشفير للتحقق من المعاملات. لها تطبيقات في العملات الرقمية والعقود الذكية. تواجه تحديات في القابلية للتوسع والاستهلاك الطاقوي.

**بعد المعالجة:** تخيل دفتر حسابات في مقهى القرية، كل من يدخل يكتب فيه ما باع وما اشترى، والجميع يقرأ. لو حاول أحدهم تزوير سطر، انتبه عشرات قبل أن يغلق الدفتر. هذا — في أبسط صوره — جوهر البلوكتشين. أما الأمان فيجيء من أن كل سطر مختوم برمز يعتمد على السطر السابق، فلا ينفك. وأما اللامركزية فمعناها أن لا أحد يملك الدفتر، بل نسخه عند الجميع. لكن هنا يدخل الأمر طورا آخر: حين يكبر الدفتر إلى ملايين السطور، يحتاج التحقق من سطر واحد طاقة هائلة — وهذه هي العقبة الحقيقية التي تجعل التقنية، رغم وعدها، بعيدة عن الاستعمال اليومي الواسع.

**ما الذي تغير:**
- مثال حسي (دفتر المقهى) قبل المفهوم.
- "أما... فـ" لتفصيل ركنين متراكبين.
- تحذير قبل القفزة ("لكن هنا يدخل الأمر طورا آخر").
- تدرج من الوصف إلى التعقيد دون قفزات.
- ربط العقبة بالمثال (دفتر يكبر)، لا تعديد مجرد.

`````

### File: arabic-ai-text-humanizer/references/03-idea-transitions.md

`````markdown
# التنقل في الأفكار — Idea Transitions (Linear · Spiral · Dialectic)

كيف ينتقل النص من فكرة إلى فكرة. ثلاثة أنماط: خطي (نقطة → التالية)، حلزوني (يعود إلى الأولى بإطار جديد)، جدلي (طرح → نقيض → تركيب). النموذج الآلي يدمن النمط الخطي المسطح، فتتتالى الأفكار كحبات مسبحة بلا ترابط داخلي. التراث العربي — من خطب الجاحظ إلى مقدمة ابن خلدون — يفضل الحلزوني: تطرح الفكرة، ينتقل عنها، ثم تسترجع بصيغة أعمق. وعبد القاهر الجرجاني في "دلائل الإعجاز" يسمي الترابط الباطني "نظما"، ويجعله مقياس البلاغة.

## التقنيات

### 1. الحلزوني: العود إلى الفكرة بإطار جديد
بعد فقرتين أو ثلاث، ارجع إلى فكرة سابقة لكن من زاوية مختلفة. لا تكررها — أعد قراءتها بضوء ما جاء بعدها.

**قبل (خطي):** الذكاء الاصطناعي يغير التعليم. ويغير الطب. ويغير الصحافة. لكل مجال تحدياته الخاصة.
**بعد (حلزوني):** الذكاء الاصطناعي يغير التعليم — يدخل الفصل أداة، فيعيد تعريف دور المعلم. وفي الطب يدخل بصورة أخرى، لا أداة بل شريكا تشخيصيا، فينقلب سؤال "ما المرض؟" إلى "أين أخطأ النموذج؟". وحين نعود إلى التعليم بهذا الضوء، نكتشف أن السؤال هناك لم يكن "كيف نستعمل الأداة؟" بل "أين يخطئ النموذج وكيف نعلم الطلاب أن يكتشفوا الخطأ؟" — وهذا سؤال طبي في جوهره.
**لماذا ينجح:** يحاكي حركة الفهم الإنساني، حيث تنضج الفكرة بمرورها على فكرة أخرى.
**متى تطبق:** المقالات الفكرية، التحليلية، الأدبية.
**متى لا تطبق:** التقارير الإجرائية، حيث التعقب الخطي مطلوب.

### 2. الجدلي: طرح، نقيض، تركيب
اطرح الفكرة، ثم اعرض ما يقابلها، ثم اشتق ما هو أعلى من الطرفين. هذا أسلوب الأشاعرة في الكلام، وله أثر في النثر العربي عبر "تقرير ورد" و"إن قيل قلنا".

**قبل:** العمل عن بعد أفضل للموظفين، لكن للشركات تحديات.
**بعد:** قد يقال إن العمل عن بعد تحرير للموظف من مشقة الحضور، فيزيد إنتاجه؛ ويقال في المقابل إنه عزله عن السياق الجمعي الذي يستمد منه القرار سياقه، فيتآكل عمله مع الزمن. والحق أن الأمرين معا، لكنهما لا يقعان في الموظف الواحد ولا في المهمة الواحدة: التحرير يحدث في الأعمال التي تملك بنيتها الذاتية، والعزل يحدث في الأعمال التي تستمد بنيتها من حول الموظف.
**لماذا ينجح:** يعرض الكاتب مفكرا لا ناقل مواقف.
**متى تطبق:** الموضوعات الخلافية، المقالات الرأيية الجادة.
**متى لا تطبق:** النصوص التحريضية أو الإعلانية، حيث ينبغي اتضاح الموقف.

### 3. كسر التتابع بسؤال موجه
في منتصف فقرة خطية، أدخل سؤالا يعيد توجيه الفكرة. السؤال ينقل القارئ من القبول إلى المشاركة.

**قبل:** التغير المناخي يؤثر على الزراعة والمياه والاقتصاد. يجب اتخاذ إجراءات.
**بعد:** التغير المناخي يؤثر على الزراعة والمياه والاقتصاد. لكن من أي من هذه نبدأ؟ السؤال ليس بريئا، لأن الأولوية تكشف عن قيمة سياسية لا عن واقع علمي. المزارع يرى الأرض تجف فيريد المياه أولا، ووزير الاقتصاد يرى الكلفة فيريد التكيف الكلي، وكلاهما ينظر إلى الواقع ذاته.
**لماذا ينجح:** السؤال في موضع غير متوقع ينبه القارئ ويكسر القبول الآلي.
**متى تطبق:** المقالات التي تطول فيها الفقرات الإخبارية.
**متى لا تطبق:** كل فقرة — يصير النص استجوابا.

### 4. الانتقال بمشهد لا برابط
بدل "بالتالي" أو "ومن جهة أخرى"، استعمل صورة أو حدثا ينقل القارئ مكانا جديدا. الجاحظ في "البخلاء" ينتقل بالحكايات لا بالروابط المنطقية.

**قبل:** الفساد الإداري يسبب خسائر. ومن جهة أخرى، يؤثر على ثقة المواطنين.
**بعد:** الفساد الإداري يستهلك ميزانيات لا تظهر في التقارير. تخيل موظفا ينتظر معاملته ستة أشهر، يعود في كل أسبوع، يفقد عملا هنا ويدفع رشوة هناك — في النهاية لا يخسر هو فقط، بل يخسر إيمانه بأن الدولة جهاز يعمل. هذا الفقد الثاني أخطر من الأول، لأن الميزانية تعود إن أصلح النظام، أما الثقة فلا.
**لماذا ينجح:** الصورة تخدم بنية الفكرة لا الزينة.
**متى تطبق:** المقالات الرأيية، المقالات الإنسانية.
**متى لا تطبق:** التقارير الفنية أو الإحصائية.

### 5. الإحالة إلى ما سبق ("كما تقدم" / "وقد ذكر")
اربط الفقرة الحالية بفقرة سابقة صراحة. هذه التقنية شائعة جدا في الكلاسيكي — الكوربوس يظهر "وقد" 1611 مرة بداية جملة، كثير منها يستدعي ما تقدم.

**قبل:** اللغة العربية لها نظام صرفي معقد. النحو أيضا معقد.
**بعد:** اللغة العربية لها نظام صرفي يبني الكلمة من جذر ووزن. وقد تقدم أن الجذر يحمل المعنى والوزن يحمل وظيفته؛ فإذا أضفنا إلى ذلك النحو، الذي يحكم علاقة الكلمات لا بنيتها، تبين أن التعقيد ليس في طبقة واحدة بل في تفاعل طبقتين.
**لماذا ينجح:** يظهر النص كنسيج لا كقائمة، وهو من أوضح ما يميز الكتابة المؤلفة.
**متى تطبق:** النصوص الطويلة (> 500 كلمة)، حيث القارئ نسي ما سبق.
**متى لا تطبق:** المقالات القصيرة، حيث الإحالة تبدو متكلفة.

### 6. الانتقال المعكوس (Reverse Hook)
ابدأ الفقرة الجديدة بنفي ما توقعه القارئ بناء على ما سبق.

**قبل:** الذكاء الاصطناعي يسرع البحث العلمي. كما يحسن جودة النتائج.
**بعد:** الذكاء الاصطناعي يسرع البحث العلمي. لكن السرعة هنا خادعة. الباحث الذي كان يستغرق شهرا في قراءة أدبيات حقله، صار يستغرق ساعة — لكن الشهر كان موضع التفكر والاستيعاب، أما الساعة فموضع الاستهلاك. النتيجة: مقالات أكثر، فهم أقل.
**لماذا ينجح:** كسر التوقع يحفظ انتباه القارئ ويظهر تعقيد الفكرة.
**متى تطبق:** عند كل ادعاء يسهل القبول به.
**متى لا تطبق:** النصوص التوضيحية البحتة.

## إشارات تشخيصية

- كل فقرة تبدأ بـ "بالإضافة إلى ذلك" / "علاوة على ذلك" / "كما أن".
- لا توجد إحالة إلى ما تقدم في النص (لا "وقد ذكر" ولا "كما أسلفنا").
- الفقرات يمكن إعادة ترتيبها دون فقد المعنى (علامة قاطعة على غياب الترابط الباطني).
- لا توجد أسئلة موجهة داخل الفقرات.
- لا يعود النص إلى فكرة سابقة في أي موضع.
- التتابع زمني أو تعدادي بحت، لا منطقي.
- جميع الانتقالات لفظية (روابط)، لا مشهدية ولا إحالية.

## أخطاء شائعة

- الإفراط في الحلزوني فيصير النص دوارا، يفقد القارئ التقدم.
- الجدل دون تركيب — يترك القارئ بين رأيين بلا حسم.
- الأسئلة الموجهة كل فقرة — تفقد أثرها وتشعر بالاستجواب.
- الإحالة إلى ما لم يتقدم فعلا، فيرتبك القارئ.
- استعمال "وقد تقدم" في نص قصير حيث لم يتقدم إلا قليل.

## مثال متكامل (~150 كلمة)

**الأصل (آلي):** القراءة عادة مفيدة. توسع المعرفة وتنمي التفكير. ومن جهة أخرى، تحسن المفردات. علاوة على ذلك، تقلل التوتر. لذلك يجب على الجميع القراءة بانتظام. في النهاية، الفوائد كثيرة والمضار معدومة.

**بعد المعالجة:** القراءة توسع المعرفة — هكذا يقال. لكن أي معرفة؟ من يقرأ عشر صفحات من عشرة كتب ليس كمن يقرأ مئة من كتاب واحد. الأول يجمع رؤوس مسائل، والثاني يدخل في نسيج فكر. وقد تقدم أن التسريع في الفهم قد ينتج فهما سطحيا سريع التبخر؛ والقراءة المتعجلة لا تخالف ذلك — بل تؤكده. تخيل قارئا يختم في الشهر كتبا، وينتقل بينها كمن يعبر غرفا مضاءة بسرعة، لا يستقر في غرفة. حين يسأل: ماذا قرأت؟ يذكر العناوين. وحين يسأل: ماذا فهمت؟ يتلعثم. وهنا يتبين أن السؤال ليس "هل تقرأ؟" بل "كيف تقرأ؟" — وهو سؤال لا تجيب عنه إحصاءات القراءة.

**ما الذي تغير:**
- سؤال موجه في الجملة الثانية يكسر القبول الآلي.
- جدل (عشر صفحات من عشرة، أو مئة من واحد) ثم تركيب.
- إحالة إلى فكرة من ملف سابق ("وقد تقدم أن التسريع...").
- مشهد (القارئ يعبر غرفا) بدل رابط منطقي.
- انتقال معكوس في الختام: السؤال ليس ما توقع القارئ.

`````

### File: arabic-ai-text-humanizer/references/04-axes-and-data-partitioning.md

`````markdown
# التقسيم للمحاور والمعطيات — Axes and Data Partitioning

البعد الثامن. الكاتب البشري المتمكن لا يسرد المعلومات سردا، بل يقسمها على محاور متعامدة (orthogonal axes) ثم يعالج كل محور على حدة. الذكاء الاصطناعي ينحو إلى القوائم المتداخلة (nested bullets) أو الجمل المتوازية بلا إعلان عن محور التقسيم، فيخرج النص مسطحا كأنه فهرس بلا منطق داخلي. التراث العربي — في الفقه والنحو والكلام — جعل التقسيم بنية ظاهرة يعلن عنها قبل التفصيل: «المسألة تنقسم إلى…»، «وأمّا… فعلى ثلاثة أوجه».

## Techniques

### 1. الإعلان عن محور التقسيم قبل التفصيل
يذكر المحور صراحة («باعتبار كذا»، «من جهة كذا»)، ثم تذكر الأقسام. هذا يحول القائمة المسطحة إلى بنية ذات بعد منطقي معلوم.

**Before (AI-flat):** يمكن تصنيف القرارات الاقتصادية إلى عدة أنواع: قرارات استثمارية، وقرارات تشغيلية، وقرارات تمويلية، وقرارات استراتيجية، وقرارات قصيرة المدى.
**After (humanized):** القرارات الاقتصادية تنقسم باعتبار الأفق الزمني إلى قسمين: ما ينفذ أثره في الأجل القصير، وما يمتد إلى الأجل البعيد. وتنقسم باعتبار الوظيفة إلى ثلاثة: استثمار، وتشغيل، وتمويل. فهذان محوران متعامدان لا يغني أحدهما عن الآخر.
**Why it works:** يحاكي بنية «التقسيم باعتبارَين» التي يستخدمها الفقهاء والمتكلمون، ويكشف عن المحور قبل الأقسام.
**When to apply:** عند ورود أكثر من قسمين متجاورين في فقرة واحدة بلا إعلان.
**When NOT to apply:** القوائم التقنية البحتة (مواصفات، خطوات تركيب) — الإعلان فيها زائد ومربك.

### 2. التقسيم الثنائي (binary partition)
أبسط صيغ التقسيم وأقواها بلاغة: قسمان متقابلان يستوعبان المسألة كلها (موجب وسالب، حق وباطل، عام وخاص). يفرض على الكاتب الحسم ويقطع التردد.

**Before (AI-flat):** هناك آراء متعددة في هذه المسألة، فبعضهم يرى الجواز وبعضهم يرى المنع، وبعضهم يفصل بحسب الحال، وبعضهم يتوقف.
**After (humanized):** الناس في هذه المسألة على قولين لا ثالث لهما باعتبار الحكم: قائل بالجواز، وقائل بالمنع. فأما المتوقف فليس بقول ثالث، بل هو إعراض عن القولين.
**Why it works:** الثنائية المحكمة تعكس ثقة تحليلية يعجز عنها AI، الذي يميل إلى تعدد الآراء بلا حصر ولا حسم.
**When to apply:** القضايا التي تقبل الحصر العقلي (نفي وإثبات، فعل وترك).
**When NOT to apply:** الظواهر الطيفية (الاقتصاد، النفس البشرية) التي يشوهها الحصر الثنائي.

### 3. التقسيم الثلاثي (ternary partition)
بنية كلامية كلاسيكية: الواجب والممتنع والممكن. ثلاثة أقسام تستوعب أحوال الشيء عقلا. تستعمل في تحليل الاحتمالات والمآلات.

**Before (AI-flat):** هذا السيناريو قد يحدث أو لا يحدث، وله احتمالات كثيرة.
**After (humanized):** هذا الأمر — باعتبار وقوعه — على ثلاثة أقسام: واجب الوقوع إن تحققت أسبابه، وممتنعه إن تخلفت، وممكنه إن توزعت الأسباب. فالنظر في أيها أولى بالمسألة هو لب التحليل.
**Why it works:** يستعير قسمة المتكلمين الثلاثية (واجب/ممتنع/ممكن)، فيعطي النص عمقا منطقيا.
**When to apply:** تحليل السيناريوهات، الاحتمالات، أحكام العقل.
**When NOT to apply:** الوقائع التاريخية المنجزة — لا معنى للممتنع فيها.

### 4. التقسيم الرباعي (quaternary partition)
أربعة أقسام مستخرجة من ضرب محورين ثنائيين (2×2). كما يفعل النحويون في إعراب الاسم: رفع ونصب وجر وجزم… أو الأصوليون في الحكم: عزيمة ورخصة وصحة وفساد.

**Before (AI-flat):** السياسات الحكومية تختلف باختلاف الأهداف والوسائل.
**After (humanized):** السياسات الحكومية تنتظم — بضرب محوري «الهدف» و«الوسيلة» — في أربعة أقسام: سياسة غايتها العدل ووسيلتها القانون، وسياسة غايتها العدل ووسيلتها القوة، وسياسة غايتها المصلحة ووسيلتها القانون، ورابعة تجمع المصلحة بالقوة. فهذه الأقسام الأربعة تحصر فضاء الخيارات.
**Why it works:** الجدول 2×2 المعلن — حتى وإن لم يرسم — يعطي إحساسا بإحاطة تحليلية يفتقر إليها السرد الخطي.
**When to apply:** متى وجد محوران مستقلان كل منهما ثنائي.
**When NOT to apply:** التكلف في توليد محور رابع لإكمال الجدول — يخرج النص مصطنعا.

### 5. الفصل بين الأقسام بـ«وأمّا… فـ»
الأداة الكلاسيكية لانتقال البيان من قسم إلى قسم. تفرش في الصدر («المسألة على قسمَين») ثم تؤدى كل قسمة بـ«أمّا الأوّل…» و«وأمّا الثاني…». تحاكي بنية الكتب التراثية وتكسر إيقاع التعداد الآلي.

**Before (AI-flat):** نوعان من المعرفة: نظرية وعملية. النظرية تشمل المفاهيم. العملية تشمل المهارات.
**After (humanized):** المعرفة على نوعين: نظرية وعملية. فأما النظرية فمدارها على المفاهيم والتصورات، وغايتها الفهم المجرد. وأما العملية فقوامها المهارات والتطبيق، ومحكها صحة الأداء لا صحة القول.
**Why it works:** المعطوف بـ«وأمّا… فـ» هو ثالث أكثر افتتاحات الجمل في كلاسيكي العربية (1983 مرة في عينة الكوربس)، وأقرب بنية بشرية في الإبانة.
**When to apply:** بعد ذكر القسمين أو الأقسام صدرا ثم البدء بتفصيلها.
**When NOT to apply:** قسم واحد — لا معطوف عليه فلا حاجة لـ«أمّا».

### 6. التمييز بين «الذاتيّ» و«العَرَضيّ» في القسمة
القسمة الصحيحة تفصل بين ما هو من ذات الشيء وما هو عارض عليه. هذا التمييز يدفع الكاتب إلى الدقة، ويجنبه القسمات السطحية التي يولدها AI.

**Before (AI-flat):** يمكن تصنيف الكتب إلى علمية، أدبية، دينية، طويلة، قصيرة، مترجمة، وأصلية.
**After (humanized):** الكتب تتمايز باعتبارين مختلفين لا ينبغي خلطهما: فمن جهة الموضوع — وهو ذاتي — تنقسم إلى علمي وأدبي وديني. ومن جهة الحجم أو لغة التأليف — وهي عوارض — تنقسم إلى طويل وقصير، ومترجم وأصلي. فالخلط بين هذه المحاور يفسد القسمة.
**Why it works:** يحاكي تمييز المنطقيين بين الذاتي والعرضي، ويظهر وعيا نقديا بالقسمة نفسها لا بمحتواها فقط.
**When to apply:** القوائم المختلطة التي يجمع AI فيها معايير متباينة.
**When NOT to apply:** المحاور التي لا تحتمل هذا التمييز (التصنيفات التقنية الإجرائية).

### 7. الإشارة إلى استيعاب القسمة («لا ثالث لهما»، «وليس وراء ذلك قِسم»)
بعد إتمام القسمة، يضاف ما يغلق فضاء الاحتمال: «لا قِسم سواهما»، «وما عدا ذلك فداخلٌ في أحد القسمَين». هذا الإغلاق التحليلي من علامات الكتابة الواثقة.

**Before (AI-flat):** هناك ثلاث مدارس فكرية رئيسية في هذا المجال، وقد توجد مدارس أخرى أقل شهرة.
**After (humanized):** المدارس في هذا الفن — باعتبار المنهج — على ثلاث: عقلية، ونقلية، وذوقية. وما يذكر سواها فإما فرع متشعب من أحدها، أو خلط بين اثنتين منها، فلا تخرج عن هذه الثلاث.
**Why it works:** يختم القسمة بإغلاق منطقي ينفي بقاء هامش غير مصنف، وهو ما يجبن عنه AI الذي يؤثر التحفظ بـ«قد توجد».
**When to apply:** القسمة العقلية الحاصرة.
**When NOT to apply:** الحقول المفتوحة التي يتجدد فيها التصنيف (التقنيات الناشئة).

### 8. التمييز بين القسمة العقلية والقسمة الاستقرائية
القسمة العقلية تنحصر بحصر عقلي (نفي وإثبات، وجوب وامتناع وإمكان)، فلا تقبل التبديل. القسمة الاستقرائية تستقرئ الواقع وتصنفه، فهي قابلة للمراجعة. الإعلان عن طبيعة القسمة المستعملة يعطي النص شفافية تحليلية.

**Before (AI-flat):** الناس في تعاملهم مع التقنية الجديدة على ثلاثة أنواع: متحمسون ومتحفظون ورافضون.
**After (humanized):** الناس في تعاملهم مع كل تقنية جديدة — وهذه قسمة استقرائية لا عقلية، فقد تتشعب في عصر آخر — ينقسمون اليوم إلى ثلاث: متعجل يأخذها قبل أن يفهمها، ومتحفظ يستأني حتى يتبين أثرها، ورافض يرى فيها انكسارا لنظام أقدم. والقسمة الواحدة لا تكفي لكل تقنية: ما يصلح مع الهاتف لا يصلح مع البيوتكنولوجيا.
**Why it works:** الإعلان عن طبيعة القسمة (استقرائية لا عقلية) يكشف وعيا منهجيا نادرا في كتابة AI، التي تخلط بين النوعين بلا تمييز.
**When to apply:** القسمات التي تستند إلى ملاحظة اجتماعية أو إحصائية.
**When NOT to apply:** القسمات الفلسفية المجردة — الإعلان زائد.

## Diagnostic signals

- قوائم نقطية (bullets) بلا جملة تمهيدية تعلن المحور
- اجتماع معايير تصنيف متباينة في قائمة واحدة (موضوع + حجم + لغة)
- غياب «أمّا… فـ» أو ما يقوم مقامه في الانتقال بين الأقسام
- ندرة صيغ «على قسمَين/على ثلاثة أوجه/باعتبارَين» في النص كله
- اللجوء إلى «وغيرها» و«من بين أمور أخرى» بدلا من إغلاق القسمة
- التداخل بين الأقسام (قسم يدخل في آخر) — قسمة غير مانعة ولا جامعة
- التوازي القسري في الأقسام: كل قسم يأتي بجملة من نفس الطول والبنية النحوية — توقيع AI
- ذكر خمسة أقسام أو ستة في عدة واحدة بلا تجميع على محور أعلى

## Common pitfalls

- **افتعال القسمة**: فرض بنية ثلاثية أو رباعية على مادة لا تحتملها — يخرج النص متكلفا
- **القسمة المتداخلة**: ذكر أقسام يدخل بعضها في بعض (كذكر «الفقير» قسيما لـ«المريض») — يفسد المنطق
- **الإسراف في «أمّا»**: تكرار «وأمّا… فـ» في فقرات قصيرة يحولها إلى منظومة نحوية بدلا من نثر
- **خلط المحاور**: إعلان محور ثم الانزلاق إلى محور آخر داخل الأقسام — ينقض القسمة
- **إغلاق المفتوح**: قول «لا قِسم سواها» في مجال يتجدد — يكذبه الواقع لاحقا
- **القسمة الفارغة**: ذكر أقسام لا يتبعها تفصيل — يحس القارئ أنه أمام عنوان بلا متن

## Worked example

**Original AI Arabic:** الذكاء الاصطناعي له تطبيقات كثيرة في مجالات متعددة منها الطب والتعليم والصناعة والترفيه والأمن. وكل مجال له تحدياته الخاصة. ففي الطب هناك مسائل تتعلق بالخصوصية، وفي التعليم هناك مسائل تتعلق بدور المعلم، وفي الصناعة هناك مسائل تتعلق بالعمالة، وفي الترفيه هناك مسائل تتعلق بالإبداع، وفي الأمن هناك مسائل تتعلق بالحريات.

**Humanized:** تطبيقات الذكاء الاصطناعي — باعتبار طبيعة الإشكال الأخلاقي المترتب — تنقسم إلى قسمين لا ثالث لهما: قسم إشكاله في الفرد، وقسم إشكاله في الجماعة. فأما الأول فيدخل فيه الطب — ومداره على الخصوصية — والترفيه — ومداره على الإبداع الذاتي. وأما الثاني فينتظم فيه التعليم بدور المعلم، والصناعة بمآل العمالة، والأمن بحدود الحريات. فهذان محوران متمايزان: ما يمس الذات، وما يمس العقد الاجتماعي، وليس وراء ذلك قسم.

**Notes on what changed:**
- أعلن المحور صراحة («باعتبار طبيعة الإشكال الأخلاقيّ المُترتِّب») قبل التعداد
- اختزل التعداد الخماسي المسطح إلى قسمين متعامدين («فردٌ» و«جماعة»)
- أدخل «أمّا… فـ» للفصل بين القسمين بنبرة كلاسيكية
- أضيف الإغلاق التحليلي («لا ثالث لهما»، «وليس وراء ذلك قِسم»)
- أعيد توزيع المجالات الخمسة على القسمين بدلا من سردها متجاورة

## Quick decision reference

- **عدد الأقسام ≤ 2** → ثنائية بمقابلة («لا ثالث لهما»)
- **3 أقسام تنشأ من حصر عقلي** → ثلاثية كلامية (واجب/ممتنع/ممكن)
- **3+ أقسام مستقرأة** → أعلن استقرائيتها (تقنية 8)
- **القائمة ناتجة عن محورين مستقلين** → أعد بناءها رباعيا (2×2)
- **خلط بين معايير ذاتية وعرضية** → افصل المحورين (تقنية 6)
- **قائمة نقطية بلا توطئة** → افتح بصياغة «على قسمَين/أوجه» قبل التعداد

`````

### File: arabic-ai-text-humanizer/references/05-literary-art.md

`````markdown
# الفن الأدبي — Literary Art

البعد التاسع. صحة التركيب شرط لا فضيلة. الفن الأدبي هو ما وراء الصحة: إيقاع ينبض، وصورة تلمع، وتلميح يستدعي ذاكرة القارئ. الذكاء الاصطناعي ينتج نصا صحيحا مسطحا، بوردي النبر: جمل متقاربة الطول، مفردات من معجم وسط آمن، ولا صورة تنبثق. الإحصاء يفضحه: تبعثر الجملة (burstiness) عند AI 0.1-0.3، وفي العربية الكلاسيكية 51.4، وحتى في النثر الصحفي المعاصر 0.68. الفجوة لا تسد بالمفردات وحدها، بل بالإيقاع والصورة.

## Techniques

### 1. تنويع الإيقاع بمزج القصيرة بالطويلة
الجملة القصيرة تدق، والطويلة تسترسل. تجاورهما يولد إيقاعا يتنفس. القرآن يستعمله («واللَّيلِ إذا يَغشى. والنَّهارِ إذا تَجَلّى»: ثلاث كلمات في كل شطر) وكذلك أمهات الكتب الأدبية.

**Before (AI-flat):** يعد الصبر من الفضائل العظيمة التي حث عليها الإسلام في مواضع كثيرة، وهو يساعد الإنسان على تجاوز المحن والصعاب التي يواجهها في حياته اليومية.
**After (humanized):** الصبر فضيلة. لا، بل هو أصل الفضائل. حث عليه القرآن في نيف وتسعين موضعا، وما حث على شيء بمثل ما حث عليه إلا قليلا. تعلمه قبل أن تحتاج إليه، فإنك إذا احتجته ولم تملكه ضاع منك مرتين: ضاع هو، وضاع ما بنيته عليه.
**Why it works:** يفتح بجملة من كلمتين، ثم بجملة أقصر تستدرك، ثم ينطلق إلى طويلة مركبة. الانحراف المعياري للطول يقفز، وتبعثر الجملة يخرج من نطاق AI.
**When to apply:** الفقرات التعليمية والوعظية وما يراد إيقاظ القارئ فيه.
**When NOT to apply:** التقارير الإجرائية — الإيقاع المتكسر فيها يربك.

### 2. الصورة الحسية بدل المجرد
المجرد يقال، والصورة ترى. حين تستعير من الحس لتلبس به المعنى المجرد، ينتقل النص من التعريف إلى التمثيل. هذا قوام البيان عند الجرجاني في «دلائل الإعجاز».

**Before (AI-flat):** تتطلب الحكمة الجمع بين المعرفة والتجربة على مر السنين.
**After (humanized):** الحكمة لا تولد فجأة كما ينبثق المعدن من المنجم؛ بل تترسب كما يترسب الذهب في قاع النهر: حبة حبة، وكل حبة تجربة مرت وتركت أثرها قبل أن تمضي.
**Why it works:** يستبدل «الجمع» — وهو مفعول مجرد — بصورتين حسيتين متعارضتين (انبثاق/ترسب) ثم يختار إحداهما، فيتحول المجرد إلى مشهد.
**When to apply:** المفاهيم المجردة الكبرى (العدل، الحرية، الحكمة) في النصوص التأملية.
**When NOT to apply:** الكتابة العلمية الدقيقة — الصورة تخدش الدقة المطلوبة.

### 3. الموسيقى الداخلية بالسجع غير المتكلف
السجع المحكم لا يبدو سجعا. يأتي مطمئنا كأنه نتيجة المعنى لا فخا للأذن. القزويني في «الإيضاح» ينبه أن السجع الحسن «ما خَفَّ على اللسان ولم يَنبُ عن المعنى».

**Before (AI-flat):** يجب على الإنسان أن يتعلم من أخطائه ويستفيد من تجاربه السابقة.
**After (humanized):** من لم يتعظ بزلة نفسه، لم ينتفع بعبرة غيره. ومن لم يقرأ في كتاب أمسه، لم يحسن كتابة يومه.
**Why it works:** سجع متوازن («نفسه/غيره»، «أمسه/يومه») بلا تكلف في المعنى. ينتج إيقاع يحفز التذكر.
**When to apply:** الخواتيم، الحكم، العناوين، الفقرات التأملية القصيرة.
**When NOT to apply:** فقرات التحليل المتواصل — السجع المكثف يتحول إلى ضجيج.

### 4. التلميح والإحالة (الإيحاء بدل التصريح)
استدعاء نص معروف (قرآن، حديث، بيت مشهور، مثل سائر) بإشارة خفيفة، دون اقتباس صريح. القارئ المتمرس يلتقط الإحالة، فيشعر بشركة مع الكاتب. الجاحظ يسميه «الإيماء».

**Before (AI-flat):** الكلمات يجب أن تكون بليغة ومناسبة للموقف.
**After (humanized):** لكل مقام مقال — وما أكثر ما رأينا مقالا صالحا جاء في غير مقامه، فأفسده، وما أكثر ما رأينا مقاما يطلب مقالا، فإذا الناطق صامت.
**Why it works:** يستدعي حكمة «لكلِّ مَقامٍ مَقال» المعروفة، ثم يبني عليها موقفا جديدا. الإحالة تكسب النص عمقا ثقافيا.
**When to apply:** الكتابة لجمهور ثقافي يلتقط الإشارات.
**When NOT to apply:** الكتابة لجمهور عام أو غير عربي — الإحالة تضيع، فيبدو الكلام ناقصا.

### 5. الالتفات (تبديل ضمير المخاطب)
نقل الخطاب من غائب إلى مخاطب (أو العكس) في وسط النص. تقنية بلاغية كلاسيكية يعددها السكاكي في «المفتاح» تولد مفاجأة تكسر الرتابة.

**Before (AI-flat):** كثير من الناس ينسون نعم الله عليهم ولا يشكرون.
**After (humanized):** كثير من الناس ينسون نعم الله. أرأيت نفسك حين تستيقظ في الفجر، تتنفس بلا أن تأمر صدرك بالتنفس؟ تلك نعمة، وأنت عنها غافل.
**Why it works:** الانتقال من «الناس» (غائب) إلى «أنتَ» (مخاطب) يجذب القارئ إلى داخل النص. هو تقنية قرآنية بامتياز (سورة يونس: «حتى إذا كنتم في الفُلكِ وجَرَين بهم»).
**When to apply:** المقاطع الوعظية، التأملية، الإقناعية.
**When NOT to apply:** الكتابة العلمية أو التقارير — التبديل يخل بحيادية الخطاب.

### 6. توظيف الطباق والمقابلة
ذكر الشيء وضده في سياق واحد («ليلٌ ونهار»، «جَهرٌ وسرّ»، «يُحيي ويُميت»). يعمق المعنى بإيراد طرفيه. ابن خلدون يلاحظ أن بلاغة العرب كانت تقوم على هذه المقابلات قبل أن تدخلها صنعة المتأخرين.

**Before (AI-flat):** الكاتب الجيد يعرف متى يكتب ومتى يتوقف عن الكتابة.
**After (humanized):** الكاتب يعرف بما يكتب وبما يترك. وحذفه أبلغ من إثباته أحيانا، وصمته يقول ما يعجز عنه قلمه.
**Why it works:** ثلاث مقابلات متتالية (يكتب/يترك، حذفه/إثباته، صمته/قلمه) تولد كثافة معنوية.
**When to apply:** الجمل التي تطلب كثافة وحكمة.
**When NOT to apply:** التكرار المتواصل للمقابلات يحول النص إلى تمارين بلاغية.

### 7. التفاوت بين الديباجة المرتفعة واللغة المتاحة
البلاغة ليست رفع المستوى دائما، بل اختيار المستوى الملائم. أحيانا يستدعي الموقف ديباجة مرتفعة (الافتتاح، الخاتمة، اللحظة الانفعالية)، وأحيانا يستدعي لغة متاحة قريبة من نبر الحديث. التناوب بين المستويين هو ما يولد فنية ناضجة.

**Before (AI-flat):** يجب أن ندرس هذا الموضوع بعناية لأنه ذو أهمية كبيرة في حياتنا.
**After (humanized):** ليست هذه مسألة تترك للهامش. هي في صميم ما نحياه — أو بعبارة أصرح: في صميم ما يحيا بنا، نحن المتوهمين أنا نحياه.
**Why it works:** يفتح بجملة متاحة مباشرة، ثم يرتفع تدريجيا إلى لغة تأملية في الشطر الثاني. هذا التفاوت هو إيقاع الكاتب الناضج.
**When to apply:** المقالات الفكرية، الرأي، السرد التأملي.
**When NOT to apply:** التقارير المهنية — التفاوت فيها مربك.

### 8. التضمين الشعري المحكم
إدراج نصف بيت أو بيت كامل في نسيج النثر، إما مسمى الشاعر أو مكتفى بالإشارة. التضمين الناجح يأتي مطمئنا كأن النثر هو الذي ولد الشعر، لا العكس. التضمين الفاشل يبدو لصيقا، كجوهرة في خاتم من رصاص.

**Before (AI-flat):** الزمن يتغير بسرعة كبيرة في عصرنا الحديث، ولا أحد يستطيع مجاراته.
**After (humanized):** يتبدل الزمن من تحتنا ونحن واقفون. ما كنا نحسبه ثابتا صار جاريا، وما حسبناه جاريا صار سريعا، حتى صدق فينا قول المتنبي: «ومَن يَكُ ذا فمٍ مُرٍّ مَريضٍ / يَجِدْ مُرّاً به الماءَ الزُّلالا». لسنا في زمن يتغير، نحن في زمن يتبخر.
**Why it works:** التضمين الشعري يجلب كثافة صوتية وموسيقية يعجز عنها النثر وحده، ويستدعي معه ذاكرة القارئ الأدبية.
**When to apply:** الكتابة لجمهور يحفظ شيئا من الشعر، اللحظات التأملية الكبرى.
**When NOT to apply:** الكتابة العلمية، أو حين لا يخدم البيت المعنى — التضمين غير المحكم يصير عرضا للحفظ لا أداة بيان.

## Diagnostic signals

- الانحراف المعياري لطول الجملة منخفض (< 5 كلمات) عبر النص كله — قياسا بـ 17.43 في الصحافة و52 في المعجمات
- غياب كل صورة حسية — لا تشبيه ولا استعارة ولا كناية في 500 كلمة
- اعتماد كلي على مفردات «وَسَط» (يعد، يعتبر، يتميز، يتطلب)
- خلو النص من كل إحالة ثقافية (قرآن، حديث، مثل، شعر)
- ثبات الضمير دون التفات
- غياب الطباق: الكلام يمضي على وجه واحد بلا مقابلة
- ختم الفقرات بصيغ مسطحة («كما ذُكر أعلاه»، «كما هو واضح»)
- خلو النص من بيت شعري أو شطر، أو حكمة مأثورة، أو مثل سائر — حتى واحدة في 800 كلمة

## Common pitfalls

- **الإسراف في السجع**: يحول النص إلى مقامات هزلية (أسلوب الحريري بلا قدرته)
- **الصور المختلطة**: استعارتان من حقلين دلاليين متباعدين في جملة واحدة تربك القارئ
- **الإحالة الغامضة**: تلميح إلى نص لا يعرفه جمهور المقال — ينقلب إلى عجمة
- **الالتفات المتتابع**: تبديل الضمير ثلاث مرات في فقرة — يفقد القارئ المخاطب
- **التكلف في الديباجة**: رفع المستوى البلاغي في موضع لا يستدعيه — ينفر القارئ
- **التضمين المسقط**: إيراد بيت شعري بلا توطئة تستدعيه — يخرج البيت كجوهرة في قفص غير قفصها
- **الكنايات المستهلكة**: «بَين مَطرقةٍ وسَندان»، «على شَفير الهاوية» — صارت من توقيع AI أكثر منها من بلاغة العرب

## Worked example

**Original AI Arabic:** القراءة من أهم العادات التي يجب على الإنسان أن يكتسبها في حياته. فهي تساعد على تنمية المعرفة وتوسيع الأفق وتطوير اللغة. وقد أكد العلماء على أهمية القراءة في كثير من المؤلفات. وينصح بقراءة الكتب المتنوعة من مختلف المجالات لتحقيق أقصى استفادة ممكنة.

**Humanized:** القراءة ليست عادة. هي حياة ثانية تجري بمحاذاة الأولى، فمن لم يقرأ لم يعش إلا نصفه. تفتح الكتاب فيفتحك، وتدخل صفحاته فإذا هي تدخلك. ولقد قيل قديما إن المرء يعرف بصاحبه؛ ومجالسة الكتب مجالسة لخيرة من مضى. خذ من كل بستان زهرة، ومن كل صناعة آلة، فإن المعرفة لا تأنف من خادم متعدد الأبواب.

**Notes on what changed:**
- نوعت الأطوال: جملة من كلمتين («القراءةُ ليست عادةً») تجاور جملة مركبة طويلة
- استبدلت «تُساعد على تنمية» (مجرد) بصورة تفاعلية («تَفتح الكتابَ فيَفتحك»)
- أدخلت إحالة ثقافية («المرء يُعرف بصاحبه») دون اقتباس صريح
- أضيف سجع خفيف غير متكلف («بُستان زهرةً/صناعةٍ آلة»)
- ختمت بحكمة متاحة بعد ارتفاع تأملي — تفاوت في الديباجة

## Quick decision reference

- **burstiness < 0.4** → ابدأ بتقنية 1 (تنويع الإيقاع)؛ أدخل جملة من كلمتين أو ثلاث
- **النص كله مجرد** → استبدل أحد المفاهيم بصورة حسية (تقنية 2)
- **خلو من إحالات ثقافية** → أدخل إحالة واحدة بإيماء لا اقتباس (تقنية 4)
- **خلو من شعر في نص تأملي ≥ 600 كلمة** → ضمن شطرا مطمئنا (تقنية 8)
- **ضمير ثابت عبر الفقرة** → جرب التفاتا واحدا في موضع الذروة (تقنية 5)
- **النبر مسطح من البداية إلى النهاية** → نوع الديباجة بين متاح ومرتفع (تقنية 7)

`````

### File: arabic-ai-text-humanizer/references/06-historical-anchoring.md

`````markdown
# الاستدلال التاريخي بالأحداث — Historical and Event-Based Reasoning

البعد العاشر. الكاتب البشري الممتلئ ثقافة يستدل على أطروحاته بالتاريخ: «قد جرى مثلُ هذا في…»، «كان هذا شأنَ بني العبّاس حين…». الذكاء الاصطناعي يستدل بالتعريفات والقواعد المجردة، ويكاد يخلو من المقاربة التاريخية. التراث العربي — منذ ابن خلدون في «المقدِّمة» — جعل التاريخ أساس الفقه السياسي والاجتماعي: «الماضي أَشبهُ بالآتي من الماء بالماء».

## Techniques

### 1. الاستشهاد بحدث بعينه لا بمقولة مجردة
الفرق بين «الحضاراتُ تَنهار حين تَنغمس في الترف» و«حين دَخل المنصورُ الأندلسيّ مَطبَخه فوجد خمسةً وعشرين طاهياً لطَبَقٍ واحد، عَلم الحَكَمُ المستنصرُ أنّ الخلافةَ في زمنه قد طُويت لحَناً وإن بَقيت ظاهراً». الثاني صورة تاريخية مشهودة؛ الأول تعميم متاح لكل AI.

**Before (AI-flat):** تنهار الحضارات عندما تفقد قيمها الأساسية وتنغمس في الرفاهية والإسراف.
**After (humanized):** ما أهلك الأندلس في القرن الخامس الهجري إلا أن ملوك الطوائف تنازعوا على القصور والولائم، فاستجار بعضهم بألفونسو السادس على بعض، فاستجاب لاستغاثتهم — ثم استولى على إشبيلية وطليطلة. تنهار الحضارات هكذا: لا بضربة من خارج، بل بدعوة من داخل.
**Why it works:** يستبدل المقولة العامة بمشهد تاريخي محدد، ثم يستخلص العبرة منه. القارئ يرى ما يقال، لا يسمعه فقط.
**When to apply:** الأطروحات الكبرى حول السياسة والاجتماع والحضارة.
**When NOT to apply:** التحليلات الإحصائية الدقيقة — الحدث الواحد لا يعمم.

### 2. القياس على سابقة تاريخية
بناء الحجة على شبه بين الحاضر وواقعة ماضية. هذا منهج الفقه الإسلامي في القياس، ومنهج المؤرخين في التحليل. يتطلب صحة المقارنة (وجوه الشبه أكثر من وجوه الفرق).

**Before (AI-flat):** الذكاء الاصطناعي سيغير سوق العمل تغييرا جذريا.
**After (humanized):** ما حدث في الصناعة بعد آلة البخار سنة 1769م سيحدث في المهن الذهنية بعد نماذج الذكاء الاصطناعي. النساجون في إنجلترا حين أحرقوا الآلات — ما عرف بحركة الـ«لُدّيين» — لم يكونوا حمقى، كانوا يرون مصدر رزقهم يسحب من تحت أرجلهم. والكاتب والمحامي والطبيب يقفون اليوم في موقع النساج آنذاك، يعنيهم أن يفهموا كيف خرج النساجون من تلك الأزمة.
**Why it works:** ينزل الواقعة الجديدة على إطار تاريخي مفهوم، فينتقل القارئ من الغموض إلى الإحاطة.
**When to apply:** الظواهر الجديدة التي تربك بمنطقها.
**When NOT to apply:** المقارنات الفجة التي تتجاهل فوارق جوهرية (السياق، التقنية، الزمن).

### 3. الاستدلال بالأوائل والسوابق
ذكر من سبق إلى الأمر تأييدا لموقف. «أوّلُ مَن قال هذا…»، «أوّلُ من فَعل هذا في الإسلام…». تكتسي به الحجة شرعية تاريخية.

**Before (AI-flat):** المؤسسات المالية الحديثة تستفيد من نظام التأمين.
**After (humanized):** التأمين ليس بدعة غربية. أول ما عرف نظام المخاطرة المشتركة كان في تجارة البحر الأحمر في القرن السابع الهجري بين تجار جدة وعدن، حين كانوا يجمعون «حقّ الغَرامة» قبل الإقلاع لتعويض من تغرق سفينته. ما يجري في «لويدز لندن» منذ القرن السابع عشر ليس إلا توسيعا لما عرفه الفقه الإسلامي تحت اسم «شركة الأبدان».
**Why it works:** ينزع عن الفكرة طابع الاستيراد، ويكشف عن جذر تاريخي أعمق. هذا يعمل بشكل خاص مع جمهور يستجيب لـ«الأصالة».
**When to apply:** الحجة التي تنتفع من إثبات الجذر التاريخي.
**When NOT to apply:** ادعاء الأولية بلا تحقق — ينقلب على الكاتب إذا كذب.

### 4. عرض نظائر الحدث عبر العصور
ذكر ثلاثة أو أربعة نظائر تاريخية لظاهرة واحدة، عبر قرون متباعدة، لإثبات أنها سنة مطردة لا حادثة عابرة. هذا منهج ابن خلدون في تتبع العمران.

**Before (AI-flat):** كثيرا ما تفشل الإصلاحات السياسية لأسباب متعددة.
**After (humanized):** الإصلاحات الملفقة من خارج البنية تفشل بصورة مطردة عبر التاريخ: فشل المأمون في فرض المعتزلة من أعلى السلطة في القرن الثالث، وفشل محمد علي في زرع الصناعة الأوربية في مصر القرن التاسع عشر بلا بنية تحتية اجتماعية، وفشلت إصلاحات شاه إيران الأبيض في السبعينيات لأنها سبقت المجتمع بثلاثة أجيال. ثلاث وقائع متباعدة المكان والزمان، تتفق في أمر واحد: الإصلاح الفوقي لا يؤتي ثمرا ما لم ينبت من تحت.
**Why it works:** التكرار التاريخي عبر ثلاثة سياقات مختلفة يرفع الفكرة من الادعاء إلى السنة. هذا هو منهج ابن خلدون في إثبات قانون العمران.
**When to apply:** إثبات نمط تاريخي أو قانون اجتماعي.
**When NOT to apply:** عرض نظائر مختلة لا يجمعها أمر جوهري — يخرج التحليل ركيكا.

### 5. استدعاء شخصية تاريخية كمرجع موقفي
ذكر ما فعل أو قال شخص تاريخي في موقف مشابه. عمر بن الخطاب في العدل، الإمام مالك في الفتيا، صلاح الدين في الحزم، طه حسين في النقد. الإحالة إلى الشخصية تستجلب موسوعتها كلها بكلمة.

**Before (AI-flat):** القائد الحقيقي هو الذي يتحمل المسؤولية في الأوقات الصعبة.
**After (humanized):** حين انتشر الطاعون في الشام سنة 18هـ، وقف عمر بن الخطاب على أعتابها مع أبي عبيدة عامر بن الجراح، فقرر الرجوع. قال له أبو عبيدة: «أَفِراراً من قَدَر اللهِ يا أمير المؤمنين؟» قال عمر: «نَفِرُّ من قَدَر الله إلى قَدَر الله». هذا هو القائد: يتخذ القرار الصعب دون أن تدفعه التسمية إلى البطر.
**Why it works:** الحادثة المحفوظة تعطي الفكرة تشخيصا وذاكرة. القارئ يستحضر الموقف كله بكلمة «عمر».
**When to apply:** المواقف القيادية، الأخلاقية، النقدية الكبرى.
**When NOT to apply:** الأنماط الإحصائية — الشخص الواحد لا يعمم.

### 6. الموازنة بين السابقة الناجحة والفاشلة
ذكر تجربتين تاريخيتين متشابهتي السياق مختلفتي المآل، لاستخراج المتغير الفارق. هذا أنضج من الاستدلال بنظير واحد، لأنه يجيب عن الاعتراض المسبق: «لِمَ نَجَحت تلك وفَشلت هذه؟».

**Before (AI-flat):** نجاح الإصلاحات الاقتصادية يتوقف على عوامل كثيرة منها الإرادة السياسية وتوفر الموارد.
**After (humanized):** نهضة اليابان بعد إصلاحات المييجي 1868م ونكستها المقابلة للعالم العثماني في عهد التنظيمات (1839-1876م) تحملان مفتاحا واحدا: كلتاهما بدأت بنفس الغاية — اللحاق بأوروبا تقنيا مع إبقاء الهوية — وانتهتا إلى مآلين متناقضين. اليابان احتفظت بالسلطة المركزية وأخضعت الإصلاح لها؛ والعثمانيون فككوا السلطة قبل أن يستكملوا الإصلاح، فاستولى عليها الدائنون الأوربيون عبر «الدَّين العامّ» سنة 1881م. المتغير الفارق ليس الإرادة ولا المال، بل تسلسل الخطوات: من أصلح قبل أن يفكك، نجا.
**Why it works:** المقارنة المتقابلة تستخرج المتغير الفارق بدقة يعجز عنها النظير الواحد. منهج محبب عند المؤرخين الناقدين.
**When to apply:** التحليل السياسي والاقتصادي الذي يطلب استخراج السبب الجوهري.
**When NOT to apply:** المواقف التي يكفي فيها مثل واحد — التكثيف المقارن قد يخرج تكلفا.

## كتالوج المقاربات التاريخية الأكثر شيوعا

### (أ) مقاربة انحدار الأندلس
**المحتوى:** أربعة قرون من الازدهار (القرن الثاني إلى السادس الهجري) ثم انهيار تدريجي خلال قرنين، ينتهي بسقوط غرناطة 1492م. عوامل تتكرر: التفكك السياسي (ملوك الطوائف)، استدعاء الأجنبي، الإغراق في الترف، التخلي عن الثقافة العسكرية.
**متى تستخدمها:** التحذير من التفكك الداخلي، استدعاء الأجنبي في النزاعات الداخلية، انهيار القوة الناعمة بعد فقدان القوة المادية. ملائمة لقراء الخليج والمغرب خاصة.

### (ب) مقاربة الفتوحات الإسلامية الأولى
**المحتوى:** خمسة وعشرون عاما (11-35هـ) شهدت توسع الدولة من الجزيرة إلى السند. عوامل تتكرر: وحدة الرسالة، قناعة الأفراد بالغاية، تواضع الإمكانات المادية قياسا بالخصم، حسن التنظيم لا الكثرة.
**متى تستخدمها:** الحديث عن قدرة المشاريع الصغيرة على غلب الكبيرة بالرسالة لا بالعدد. ملائمة في مقامات الإلهام، ريادة الأعمال، إصلاح المؤسسات الصغيرة.

### (ج) مقاربة الإزهار العباسي الثقافي
**المحتوى:** قرن ونصف (132-330هـ تقريبا) من الإنتاج العلمي المكثف: ترجمة اليونان، صنعة الورق، بيت الحكمة، نشأة علم الحديث وعلم الكلام، اكتشافات في الطب والرياضيات. عوامل تلتقي: التعدد الإثني المستوعب، الانفتاح على المعارف الأجنبية بلا فقدان الهوية، رعاية الدولة للعلم.
**متى تستخدمها:** الحديث عن شروط النهضة العلمية، فضل الترجمة، التكامل بين العلمنة والتأصيل. ملائمة للقراء المهتمين بسياسات البحث العلمي والتعليم العالي.

### (د) مقاربة الغزو المغولي
**المحتوى:** اجتياح هولاكو لبغداد 656هـ/1258م، إسقاط الخلافة العباسية، إبادة شطر كبير من سكان العراق وفارس. النتيجة المفاجئة: ذوبان الغازي في ثقافة المغزو خلال جيل، إسلام خانات الجنوب الذهبي.
**متى تستخدمها:** الحديث عن مقاومة الثقافة بقاء رغم الانكسار العسكري، استيعاب المغزو للغازي، أن الانهيار العسكري ليس انهيارا حضاريا بالضرورة. ملائمة للقراء الذين يواجهون «حَتميّة الهَزيمة الثقافيّة».

### (هـ) مقاربات العالم العربي المعاصر
**المحتوى:** تجارب بعينها: نكسة 67، ثورة إيران 79، حرب لبنان 75-90، اجتياح الكويت 90، الربيع العربي 2011 وما تلاه. لكل حدث منطقه ودلالته. الاستشهاد بها يتطلب حذرا لقرب العهد وتعدد الروايات.
**متى تستخدمها:** التحليل السياسي والاجتماعي المعاصر. ملائمة في الكتابة الصحفية والسياسية. **تحذير:** لا تستخدمها في تعميمات ساخنة — قرب العهد يجعل الجدل سياسيا أكثر منه تحليليا.

## Diagnostic signals

- خلو النص من أي تاريخ أو سنة أو شخصية تاريخية في 500 كلمة
- اعتماد كامل على التعميمات المجردة («كثيراً ما»، «بشكلٍ عام»، «الحضارات»)
- تحفظ مفرط في الأمثلة (الاكتفاء بـ«مثلاً» دون تسمية)
- الإحالات التاريخية إن وجدت تكون عامة («في العصور القديمة»، «قَديماً»)
- غياب القياس على نظير: كل ظاهرة تعالج وكأنها أول مرة تحدث
- لا يذكر سنة بعينها ولا مكان بعينه
- الإحالات التاريخية كلها من حقبة واحدة (مثلا «الإسلام الكلاسيكيّ» فقط) بلا تنويع زمني أو جغرافي
- غياب تام لأسماء كتب التاريخ الكلاسيكية (الطبري، ابن الأثير، المقريزي، ابن خلدون) أو الحديثة (بشار عواد، البراك، حسين مؤنس)

## Common pitfalls

- **القياس الفج**: ربط الحاضر بسابقة تاريخية مع تجاهل الفوارق الجوهرية (السياق، التقنية، البنية الاجتماعية)
- **التحريف التاريخي**: استشهاد بحدث غير صحيح، أو نسبته إلى غير صاحبه — ينقلب الإسناد على الكاتب
- **الإسراف في الاستشهاد**: ثلاث سوابق تاريخية في فقرة واحدة — يتحول المقال إلى درس في التاريخ
- **مقاربة خارج سياق القارئ**: استدعاء مقولة من تاريخ كوريا لقارئ خليجي — تضيع الإحالة
- **السقطات الأيديولوجية**: استدعاء حادثة سجالية معاصرة (الربيع العربي، حرب لبنان) في موضع تحليلي — ينقلب إلى موقف سياسي مكشوف
- **الإسناد المبهم**: قول «يَذكر المُؤرِّخون» بلا تسمية — يفقد الاستدلال حجمه
- **مقاربة تهجم على القارئ**: استخدام مقاربة الأندلس أو المغول للتخويف لا للتحليل — يتحول النص إلى وعظ سياسي مكشوف

## Worked example

**Original AI Arabic:** الإصلاحات الاقتصادية التي تفرضها المؤسسات الدولية على الدول النامية كثيرا ما تفشل لأنها لا تراعي الواقع المحلي. ومن المهم أن تكون هذه الإصلاحات نابعة من حاجات المجتمع الفعلية. كما أن التعجل في تطبيقها يؤدي إلى نتائج عكسية في كثير من الأحيان.

**Humanized:** ما يجري اليوم من «وَصفاتِ» صندوق النقد الدولي ليس بدعا في التاريخ. حين جاء البارون دو رينيير إلى مصر في عهد إسماعيل سنة 1876م تحت اسم «المُراقبة الماليّة»، كانت الوصفة نفسها: تخفيض الإنفاق، رفع الضرائب، خصخصة ما يمكن. وبعد ثلاث سنوات خسرت مصر استقلالها الاقتصادي، وبعد ست خسرت السياسي. ومثل هذا جرى في الأرجنتين 2001م، وفي اليونان 2010م. ثلاث سوابق في ثلاث قارات متباعدة، تجمعها سنة ابن خلدونية ما زالت تعمل: الإصلاح المفروض من خارج البنية يستهلك البنية، ولا يصلحها. ما لم ينبت الإصلاح من رحم الحاجة المحلية، فهو غزو بأدوات الاقتصاد.

**Notes on what changed:**
- استبدل التعميم المجرد بثلاث سوابق تاريخية محددة (مصر 1876، الأرجنتين 2001، اليونان 2010)
- أدخل اسم بعينه (دو رينيير) وسنة بعينها — يزيد الإحساس بالكثافة المعرفية
- استدعي ابن خلدون كمرجع نظري يضع الحدث في إطار سنة تاريخية
- ختم بصورة مكثفة («غَزوٌ بأدوات الاقتصاد») تلخص العبرة
- ألغيت الجمل التحفظية («كثيراً ما»، «من المهم») واستبدلت بإسناد تاريخي صريح

## Quick decision reference

- **الموضوع تفكك سياسي أو استقواء بأجنبي** → مقاربة (أ) الأندلس
- **الموضوع نهضة صغيرة تتحدى كبيرا** → مقاربة (ب) الفتوحات الأولى
- **الموضوع شروط الازدهار العلمي والترجمة** → مقاربة (ج) العصر العباسي
- **الموضوع صمود ثقافي بعد انكسار عسكري** → مقاربة (د) المغول
- **التحليل السياسي المعاصر مع جمهور مختلف سياسيا** → تجنب (هـ) أو استخدمها بحذر محايد
- **القارئ غير متخصص** → اقتصر على حدث واحد مشهور؛ لا تجمع ثلاثا متباعدة
- **الادعاء خاص بظاهرة جديدة كليا** → تقنية 2 (قياس على سابقة) لا تقنية 4 (تتبع سنة)

`````

### File: arabic-ai-text-humanizer/references/07-imagination-concretization.md

`````markdown
# التخيل وتوسيع الإدراك — Imagination & Perception Expansion (Dimension 11)

البعد الذي يحول الفكرة المجردة إلى صورة يراها القارئ ويلمسها. النصوص المولدة بالذكاء الاصطناعي تصاب غالبا بـ«تَجَرُّد مُسطَّح»: تعريفات وعموميات بلا جسد. الكاتب البشري ينزل المعنى من سماء المفهوم إلى أرض المثال، فيمنح القارئ مقعدا يجلس عليه ليرى ما يقال.

## التقنيات

### 1. التنزيل من العام إلى الخاص (Bring-Down-from-Abstract)
ابدأ بالمفهوم المجرد، ثم تنازل درجة درجة حتى تصل إلى مشهد يقع في زمان ومكان. لا تترك المفهوم معلقا في الفراغ.

**قبل (مسطح):** يؤثر التضخم على القدرة الشرائية للمواطنين، مما يفضي إلى تراجع مستوى المعيشة وزيادة الأعباء الاقتصادية على الأسر ذات الدخل المحدود.
**بعد (محسوس):** يأكل التضخم القدرة الشرائية. خذ ربة بيت في حي شعبي كانت تشتري بمئة ريال قفص بيض وكيلوي لحم ورغيفي خبز ساخن؛ صارت اليوم تخرج بكيس نصف ممتلئ. هذا هو التضخم، لا الأرقام في النشرة.
**Why it works:** القارئ لا يتمثل المفهوم إلا حين يتجسد في شخص يتحرك في مكان معروف.
**When to apply:** الجملة تحتوي مفهوما اقتصاديا/اجتماعيا/فلسفيا عاما يستهلكه القارئ دون أن يهضمه.
**When NOT to apply:** النصوص التقنية البحتة (مواصفات، قوانين، توثيق برمجي) حيث الدقة المجردة هي المطلوبة.

### 2. استبدال الشخصية الملموسة (Concrete-Character-Substitution)
بدل «الناس»، «المجتمع»، «الأفراد» بشخص مسمى أو موصوف بدقة ينوب عن الفئة.

**قبل:** يعاني كثير من الشباب من البطالة وصعوبة الانخراط في سوق العمل بعد التخرج من الجامعة.
**بعد:** خذ خالدا، خريج هندسة من جامعة الملك سعود في ربيع 2023، يطرق منذ ثمانية عشر شهرا أبواب شركات تجيب جميعها بـ«سنتواصل معك». خالد هذا ليس استثناء؛ هو فئة كاملة.
**Why it works:** الذهن البشري مهيأ لتذكر الأفراد لا الإحصاءات؛ خالد يبقى في الذاكرة بعد أن تختفي النسبة المئوية.
**When to apply:** مقالات الرأي، الصحافة الطويلة، النصوص الإقناعية.
**When NOT to apply:** التقارير الإحصائية الرسمية والأبحاث الكمية.

### 3. التأريض الحسي (Sensory Grounding)
أضف تفصيلا بصريا أو سمعيا أو لمسيا أو شميا يجعل القارئ يستحضر المشهد بحواسه لا بعقله وحده.

**قبل:** كانت الأسواق التقليدية مزدحمة وحيوية، ولها طابعها الخاص الذي يفتقده الناس في المراكز التجارية الحديثة.
**بعد:** السوق القديم كان يسمع قبل أن يرى: نداء بائع الخضرة، صفق يد الدلال على يد المشتري، رائحة الهيل تختلط بدخان الفحم تحت إبريق القهوة. أين هذا في الممرات المكيفة ذات الموسيقى المحايدة؟
**Why it works:** الحواس تنشئ ذاكرة عاطفية يعجز التجريد عن إنشائها.
**When to apply:** الأدب، الصحافة الثقافية، المقال الانطباعي، الخطابة.
**When NOT to apply:** المختصرات التنفيذية والملخصات السريعة.

### 4. تثبيت الرقم (Number-Anchoring)
استبدل التقديرات المبهمة («كثير»، «معظم»، «منذ زمن») برقم محدد ولو كان تقديريا. الرقم يكسر الضبابية التي يحبها النص الآلي.

**قبل:** يقضي كثير من المراهقين وقتا طويلا يوميا على منصات التواصل الاجتماعي.
**بعد:** يمضي المراهق السعودي في المتوسط أربع ساعات وسبع عشرة دقيقة يوميا أمام TikTok وحده — أي نحو سبع عمره اليقظ.
**Why it works:** الرقم الدقيق يولد ثقة ويستفز المخيلة لمقارنته بمرجع مألوف («سُبُع العمر»).
**When to apply:** كلما وردت كلمات مثل «كثير، بعض، أغلب، عادةً، أحياناً».
**When NOT to apply:** حين لا يتوفر مصدر موثوق — الرقم المخترع أسوأ من التقدير المبهم.

### 5. تثبيت الزمن (Time-Anchoring)
استبدل «منذ زمن، قديماً، حديثاً» بسنة أو حقبة أو حدث تاريخي معلوم.

**قبل:** عرف العرب صناعة الورق منذ زمن بعيد قبل أن تنتقل إلى أوروبا.
**بعد:** في 751م، بعد معركة طلاس بأشهر، أخذ العرب سر الورق من أسرى صينيين في سمرقند؛ ومنها انتقلت الصناعة إلى بغداد سنة 793م، ثم إلى الأندلس قبل أن تعرفها أوروبا بنحو أربعة قرون.
**Why it works:** التاريخ المحدد يحول الادعاء إلى حدث، والحدث يمكن تخيله.
**When to apply:** أي ادعاء تاريخي مبهم.
**When NOT to apply:** حين لا تتأكد من التاريخ — الخطأ التاريخي يقوض النص كله.

### 6. التشبيه الحركي (Kinetic Analogy)
شبه المفهوم المجرد بحركة يعرفها القارئ من تجربته اليومية، لا بمفهوم آخر مجرد.

**قبل:** تتراكم الديون على الدولة تدريجيا مما يؤثر على استقرارها المالي في المدى البعيد.
**بعد:** الدين العام ككرة الثلج تتدحرج: في أول المنحدر تدفعها بإصبع، وفي آخره تحتاج جرافة لإيقافها. والدولة التي تنتظر القاع تنتظر الجرافة.
**Why it works:** الحركة (التدحرج) تستدعي ذاكرة جسدية، فيفهم القارئ المتتالية الزمنية بحدسه لا بحسابه.
**When to apply:** شرح عمليات تراكمية أو ديناميكية.
**When NOT to apply:** الإفراط في النص الواحد — تشبيهان حركيان في فقرة واحدة يحولانها إلى استعراض.

### 7. تعيين المكان (Place-Anchoring)
ضع المشهد في مكان معلوم بدلا من فضاء عام. «شارعُ التَّحْلية في الرياض» أقوى من «الشوارع التجارية».

**قبل:** تشهد المدن الكبرى تحولات عمرانية متسارعة أفقدتها كثيرا من طابعها الأصيل.
**بعد:** في حي الشميسي بالرياض، حيث كان جدي يشتري الكتب من مكتبة بسلالم خشبية، يقف اليوم برج زجاجي من ثلاثين طابقا. هذه ليست تنمية؛ هذه نسيان ممنهج.
**When to apply:** المقال الذي يدعي معرفة بمكان.
**When NOT to apply:** حين لا تعرف المكان حقا — التزييف المكاني يفضح الكاتب أمام أهل المكان.

### 8. المفارقة الحسية (Sensory Paradox)
ضع صورتين حسيتين متنافرتين في جملة واحدة لتولد توترا يجعل القارئ يتوقف. الذهن البشري يستيقظ عند المفارقة لا عند الانسجام.

**قبل:** كانت الحفلة غريبة ومربكة، وشعر الحاضرون بعدم الراحة لكثرة المتناقضات فيها.
**بعد:** كان الموسيقي يعزف لحنا جنائزيا بينما تدور كؤوس الشمبانيا فوق طاولة تفوح منها رائحة الياسمين. ولم يعرف أحد من الحاضرين متى يبتسم ومتى يطرق.
**Why it works:** تجاور المتناقضات الحسية (لحن جنائزي/شمبانيا، ياسمين/ارتباك) يخلق جوا لا تنقله الصفات المباشرة.
**When to apply:** المقال الأدبي، الصحافة الثقافية، وصف المشاهد العاطفية المركبة.
**When NOT to apply:** التقارير الإخبارية المباشرة — المفارقة هناك تبدو متكلفة.

### 9. الانتقال من الكلي إلى الجزء الممثل (Synecdoche-Style Zoom)
بدلا من وصف الكل، اختر تفصيلا صغيرا يستوعب الكل. سترة المعلم البالية تغني عن صفحة كاملة عن فقر التعليم.

**قبل:** يعاني المعلمون من ظروف صعبة ودخول متدنية تؤثر على أدائهم.
**بعد:** يكتب المعلم على السبورة بطباشير يشتريها من جيبه، ويمسحها بكم قميص تجاوز موعد تقاعده. ومنه تتخرج أجيال المملكة.
**Why it works:** التفصيل الواحد (الطباشير، الكم) يحمل ثقل المفهوم كله. القارئ يكمل البقية بنفسه — وما يكمله بنفسه يملكه.
**When to apply:** بدلا من الإحصاء العام، اختر تفصيلا يكون «أَيقونةً» للظاهرة.
**When NOT to apply:** حين يكون التفصيل غريبا أو شاذا — الجزء الممثل يجب أن يكون نموذجيا لا استثناء.

## Diagnostic signals (كيف تكتشف الضعف)

- نسبة الأسماء المجردة (التنمية، التطور، التحول، الاستقرار) > 15% من الكلمات الدلالية.
- لا أسماء أعلام بشرية في الفقرة (لا شخص يتحرك).
- لا أرقام محددة (كلها «كثير، بعض، معظم»).
- لا أفعال حسية (يرى، يسمع، يلمس، يشم).
- لا أسماء أمكنة معلومة (الكل في «الدول، المجتمعات، المدن»).
- لا تواريخ محددة (الكل في «قديماً، حديثاً، اليوم»).

## Common pitfalls

- **الاستعارة العائمة:** «بحرٌ من المعاني» — استعارة ميتة لا تحرك خيالا. كل صورة مستهلكة تعادل لا-صورة.
- **التكثيف المفرط:** ثلاث صور حسية في جملة واحدة تحول النص إلى استعراض شعري غير مقصود.
- **الرقم المختلق:** «87.3% من الناس يَعتقدون…» بلا مصدر — يهدم المصداقية أبلغ من «معظم الناس».
- **التشبيه الغريب على القارئ:** تشبيه بشيء لا يعرفه قارئك (كتشبيه الفكرة بآلة صناعية أمام قارئ شعري) يربك بدل أن يوضح.
- **الإغراق التفصيلي:** ذكر لون السيارة وموديلها حين لا يخدم الفكرة تشتيت لا تجسيد.
- **الشخصية الكاريكاتورية:** «خالد» المخترع قد ينفع، لكن «خالد» الذي يلخص نمطا مسطحا (الموظف الكسول، الأم الحنون) يعيدنا إلى التجريد من الباب الخلفي.
- **التاريخ الزخرفي:** ذكر سنة دقيقة لغرض الزخرفة وحدها («في عام 1923 بدأت الفكرةُ تَنتشر») دون أن يكون الحدث مرتبطا بادعائك المركزي = خيانة.

## كيف توازن بين البعدين (Calibration)

كل تقنيات هذا الباب تتحرك على محورين: **التجسيد** (كم نخرج من العام إلى الخاص) و**الاقتصاد** (كم نستعمل من تفصيل لكل مفهوم). الإفراط في الأول يحول المقال إلى قصة، والإفراط في الثاني يجففه. القاعدة العملية: في كل ٣٠٠ كلمة، تجسيد واحد بارز (شخصية، رقم، مكان، مشهد) يكفي ليتنفس النص. أكثر من ذلك يربك القارئ، وأقل منه يتركه في الفراغ.

## Worked example

**Original AI Arabic:**
يمثل التحول الرقمي تحديا كبيرا للمؤسسات التقليدية، إذ يفرض عليها إعادة هيكلة عملياتها وتطوير مهارات موظفيها لمواكبة المتغيرات. وقد أثبتت الدراسات أن المؤسسات التي تتأخر في هذا التحول تفقد قدرتها التنافسية تدريجيا وتواجه صعوبات في البقاء.

**Humanized:**
خذ مكتبة جرير في 2008، حين كانت رفوفها محج طلاب الرياض كل بداية فصل. ثم جاء كندل في 2009، وتلاه تطبيق أبجد في 2012. اليوم، في فرع التحلية، ترى الموظف يشرح لمراهق أين قسم القرطاسية لأن الكتب — الكتب نفسها — انتقلت إلى جيبه. هذا هو التحول الرقمي: ليس «إعادةَ هيكلةٍ للعمليات»، بل لحظة يكتشف فيها التاجر أن بضاعته التي ملأت الرفوف صارت تزن أربعة وعشرين جراما في يد زبونه. من تأخر سنتين عن هذه اللحظة، مثل مكتبات كبرى أغلقت بين 2015 و2019، لم يخسر «قدرتَه التنافسية»؛ خسر من يدخل من بابه.

**Notes on what changed:**
- استبدلت «المؤسّسات» بمكتبة جرير المسماة، و«المتغيّرات» بكندل وأبجد بتواريخها.
- أضيف الرقم (24 جراما) بدل «خفيف الوزن».
- جسد المفهوم في مشهد موظف ومراهق في فرع بعينه (التحلية).
- التشبيه الحركي («بضاعتُه انتقلت إلى جيبه») حل محل «إعادة الهيكلة».
- ختمت الفقرة بصورة ملموسة (من يدخل من بابه) بدل «صعوبات في البقاء».

`````

### File: arabic-ai-text-humanizer/references/08-rhetorical-figures.md

`````markdown
# الفن البلاغي والنحوي والكتابي — Rhetorical, Grammatical & Writing Arts (Dimension 12)

البلاغة العربية ليست زينة تضاف، بل اقتصاد في المعنى: كلمة تفعل ما تفعله جملة. النصوص المولدة بالذكاء الاصطناعي تستعمل قاموسا بلاغيا معقما (مفردات صحيحة، تراكيب سليمة، لكن بلا بصمة صوتية أو دلالية). هذا الباب يعيد للنص موسيقاه الداخلية وتوتراته الدلالية — بشرط أن تنزل كل صنعة في موضعها لا في غير موضعها.

## مصفوفة الملاءمة (When NOT to use — Register Matrix)

| الصنعة | الصحافة الإخبارية | الأكاديمي | المقال الرأيي | الأدبي | الخطابي |
|---|---|---|---|---|---|
| جناس | تجنب | تجنب | بحذر | مناسب | مناسب جدا |
| طباق | مناسب | مناسب | مناسب جدا | مناسب جدا | مناسب جدا |
| سجع | تجنب | تجنب | تجنب | بحذر | مناسب |
| كناية | مناسب | بحذر | مناسب | مناسب جدا | مناسب |
| استعارة | مناسب | بحذر | مناسب جدا | مناسب جدا | مناسب جدا |
| مقابلة | مناسب | مناسب | مناسب جدا | مناسب | مناسب جدا |
| تقديم وتأخير | بحذر | بحذر | مناسب | مناسب | مناسب |
| تورية | تجنب | تجنب | بحذر | مناسب | بحذر |

«تَجَنَّب» = الصنعة في هذا السياق تنقلب إلى سخرية أو طرفة. «بحَذَر» = مرة واحدة في النص كله.

## التقنيات

### 1. الجناس (Paronomasia)
كلمتان تتشابهان في الجرس وتختلفان في المعنى. أقواه ما خدم المعنى، وأسوأه ما جاء لمجرد التماثل الصوتي.

**قبل:** يدعو الكاتب إلى الحوار بين الحضارات للوصول إلى تفاهم مشترك بين الشعوب.
**بعد:** يدعو إلى الحوار لا إلى الحور، وإلى التفاهم لا إلى التوهم.
**Why it works:** التقابل الصوتي يحفر التمييز الدلالي في الذاكرة (حوار/حور = تراجع).
**When to apply:** الخاتمات، عناوين المقالات، الجمل المفصلية. مرة واحدة في المقال.
**When NOT to apply:** التقارير الإخبارية والأكاديمية الجادة — يحول النص إلى مقامة طريفة.

### 2. الطباق (Antithesis)
الجمع بين الشيء وضده في جملة واحدة. أكثر صنعة بلاغية قابلة لكل السجلات، وأخفها وطأة.

**قبل:** الكلمة الصادقة لها تأثير كبير على الناس، حتى وإن كانت قصيرة جدا في حجمها.
**بعد:** الكلمة الصادقة قصيرة تطول، وضعيفة تقوى.
**Why it works:** التضاد يضاعف الانتباه؛ الذهن مهيأ بفطرته لتسجيل المتقابلات.
**When to apply:** كل السياقات تقريبا.
**When NOT to apply:** حين يكون التضاد متكلفا ولا يخدم فكرة (طباق صناعي).

### 3. السجع (Rhymed Prose)
تواطؤ الفاصلتين على حرف روي واحد. أخطر الصنائع. منطقة خطر.

**قبل:** على الحاكم أن يكون عادلا مع رعيته، حليما في تعامله، صادقا في وعوده.
**بعد (سجع متقن):** على الحاكم أن يعدل فينصف، ويحلم فيؤنس، ويصدق فيؤمن.
**Why it works:** الإيقاع المتساوي يطبع الجملة في الذاكرة، ويلائم سياق الحكم والوصايا.
**When to apply:** الخطابة، الحكم القصيرة، النص الأدبي التراثي، خاتمة مقال أدبي.
**When NOT to apply:** الصحافة الحديثة، التقرير، النص التقني — يصبح أركيكا مفضوحا. السجع في خبر عن الاقتصاد كلبس عمامة تراثية مع بدلة رياضية.

### 4. الكناية (Metonymy / Oblique Reference)
ذكر شيء تريد به شيئا آخر بينه وبين المذكور علاقة ملازمة، مع جواز إرادة الأصل. ألطف من التصريح، وأبعد في الأثر.

**قبل:** هذه الشخصية كريمة جدا وتحب مساعدة الآخرين بشكل دائم.
**بعد:** بابه لا يعرف المغلاق، وكفه لا تعرف القبض.
**Why it works:** الكناية تلزم القارئ بخطوة استنتاج، فيملك المعنى ملكية من جهد فيه.
**When to apply:** وصف شخصية، توصيف موقف، تورية مهذبة عن المحظور.
**When NOT to apply:** السياق الذي يتطلب وضوحا قانونيا أو علميا صارما.

### 5. الاستعارة (Metaphor — Explicit / Implicit)
تشبيه حذف أحد طرفيه. **التصريحية** تحذف المشبه؛ **المكنية** تحذف المشبه به وتبقي لازمه. النوع الثاني أدق وأبعد عن الابتذال.

**قبل:** ينتشر الفساد بسرعة كبيرة في المؤسسات إذا لم يواجه بحزم.
**بعد (مكنية):** الفساد يمد جذوره في صمت، ويورق في غفلة، ويثمر حين تستيقظ الإدارة فلا تجد ما تقطع.
**Why it works:** نسبة أفعال النبات (مد، أورق، أثمر) للفساد تفتح صورة شجرة كاملة بلا ذكرها.
**When to apply:** كل السجلات تقريبا، إذا كانت طرية لا مستهلكة.
**When NOT to apply:** الاستعارات الميتة («بحرٌ من»، «شُعلةُ»، «نَهرُ») — هذه تدخل في خانة العدم البلاغي.

### 6. المقابلة (Paired Antithesis)
طباق مركب: تقابل بين جملتين أو شطرين، كل معنى في الأول يقابله ضده في الثاني. أفخم من الطباق المفرد، وأقوى أثرا في الخاتمات.

**قبل:** الجاهل يتكلم كثيرا ولا يستمع، والعاقل يفعل العكس.
**بعد:** الجاهل يملأ الفراغ بصوته، والعاقل يملأ صوته بالفراغ.
**Why it works:** التوازي النحوي مع القلب الدلالي يولد دهشة محكمة.
**When to apply:** الخواتيم، العناوين، الجمل الحاكمة.
**When NOT to apply:** التكرار في المقال نفسه — مقابلتان في مقال واحد تكسران الأثر.

### 7. التقديم والتأخير (Word-Order Inversion)
العربية تجيز تقديم المفعول أو الجار والمجرور على الفاعل لغرض بلاغي (التخصيص، الاهتمام، التشويق).

**قبل:** نخدم وطننا قبل كل شيء، ولا نخدم سواه.
**بعد:** إياك نخدم، ولسواك لا نلتفت.
**Why it works:** تقديم المفعول («إيّاك») يفيد القصر — لا أحد سواه. هذا ما لا يؤديه ترتيب نمطي.
**When to apply:** جمل التأكيد، الافتتاحيات، النفي والإثبات الحاد.
**When NOT to apply:** نص إخباري سريع — التقديم يبطئ القراءة ويربك القارئ العجل.

### 8. التورية (Double-Meaning / Pun)
لفظ له معنيان: قريب متبادر، وبعيد هو المقصود. أدق الصنائع وأخطرها على القارئ الكسول.

**قبل:** سياسة الحكومة في معالجة الأزمة كانت غير كافية.
**بعد:** أدارت الحكومة الأزمة ظهرها، وسمت ذلك «إدارةَ الأزمة».
**Why it works:** «إدارة» في الأولى = الإعراض، وفي الثانية = المصطلح الإداري. القارئ يكتشف اللعبة فيبتسم ابتسامة المتواطئ.
**When to apply:** المقال الساخر، الأدب، خاتمة التحليل السياسي.
**When NOT to apply:** الأكاديمي والإخباري — التورية تقرأ خطأ أو لا تقرأ.

## Diagnostic signals (كيف تكتشف ضعف الصنعة)

- جميع الجمل تجري على نمط خبري مسطح (فاعل + فعل + مفعول) دون تقديم ولا تأخير.
- لا تضاد في أي فقرة (لا طباق ولا مقابلة) — الفكرة تسير بخط واحد.
- الاستعارات الميتة سائدة: «بحرٌ من»، «جسرٌ بين»، «نَهر»، «شُعلة»، «نَبراس».
- لا كناية — كل المعاني مصرح بها (وصف مباشر للكرم، المروءة، الفساد).
- لا إيقاع صوتي في الجمل المفصلية (الفواصل والخواتيم).
- النص يخلو من جملة واحدة يمكن اقتباسها — أمارة غياب البلاغة.

## Common pitfalls

- **الإفراط في الصنعة:** ثلاث بلاغات في فقرة واحدة تحول النص إلى استعراض مدرسي. القاعدة: صنعة واحدة بارزة لكل ٢٠٠ كلمة.
- **خلط السجلات:** سجع في تقرير اقتصادي، أو جناس في بحث أكاديمي. اقرأ مصفوفة الملاءمة أعلاه قبل الإقدام.
- **التورية الفجة:** إذا كان المعنيان كلاهما واضحين فهي ليست تورية، بل لعب ألفاظ.
- **الجناس المتكلف:** «حاوَر وحارَ» يخدم المعنى؛ «جاء وجَوى» لا يخدم شيئا.
- **الاستعارة الموروثة:** كل استعارة سمعتها أكثر من خمس مرات هي عمليا تعبير حرفي — تنفع للوضوح لا للأثر.

## Worked example

**Original AI Arabic:**
تواجه المجتمعات العربية تحديات كبيرة في مجال التعليم، حيث يتطلب التطور السريع في العصر الرقمي إعادة النظر في المناهج وطرق التدريس. ويجب على المؤسسات التعليمية أن تتبنى مناهج مبتكرة لمواكبة هذه التحديات، وأن تستثمر في تطوير قدرات المعلمين والطلاب على حد سواء.

**Humanized:**
يعلمنا أبناءنا مناهج القرن الماضي، ويمتحنون في تحديات القرن الحالي، ويطلب منهم بناء القرن القادم. هذه ليست مفارقة عابرة؛ هذه مدرسة تفتح بابها على الأمس وتخرج منه إلى الغد. والإصلاح المجتزأ — منهج هنا، تطبيق هناك — يداوي الجرح ولا يغير السكين. إنما نحتاج معلما يتعلم، ومدرسة تتمدرس، وطالبا يسأل لا يلقن.

**Notes on what changed:**
- مقابلة ثلاثية («مَناهجَ القرن الماضي / تحدِّيات الحاليّ / بناء القادم») تحل محل التسطيح.
- كناية («يَفتح بابَها على الأمس»، «السكِّين») تغني عن التصريح بـ«التَّخَلُّف».
- جناس محكم في الخاتمة («مُعلِّماً يَتَعَلَّم، مَدرسةً تَتمدرَس») يطبع الجملة في الذاكرة.
- طباق خفيف («يُسأَل لا يُلَقَّن»).
- كل بلاغة خدمت المعنى، ولم تأت لمجرد الزخرفة.

`````

### File: arabic-ai-text-humanizer/references/09-coherence-non-repetition.md

`````markdown
# التماسك وعدم التكرار والاستدلال بما تقدم — Coherence, Non-Repetition & Intra-Text Citation (Dimension 13)

النص البشري المتقن لا يتقدم بخط مستقيم ينسى ما خلفه وراءه؛ بل يتقدم وهو يحمل ذاكرته. كل ادعاء جديد يستند جزئيا إلى ما أسسه الكاتب قبله، فينشأ نسيج يحيل بعضه إلى بعض. النصوص المولدة بالذكاء الاصطناعي تفشل في وجهين: (أ) تكرر اللفظ والتركيب والفكرة دون أن تدري؛ (ب) تنسى ما قالته قبل ثلاث فقرات، فلا تستثمره في الحجة الراهنة. هذا البعد يعالج الأمرين معا.

## الجزء الأول: عدم التكرار (Non-Repetition)

### 1. التنويع المعجمي (Lexical Variation)
لا تستعمل الكلمة المحورية مرتين في فقرة واحدة إلا لغرض بلاغي مقصود. خزن مرادفات ذات ظلال دلالية مختلفة.

**قبل:** تمثل التحديات الاقتصادية تحديا كبيرا، وتتطلب مواجهة هذه التحديات بحزم. ومن أبرز التحديات تراجع الإنتاج.
**بعد:** المحنة الاقتصادية لا تتراجع بأنصاف الحلول. وأبرز ما يضغط على الميزان اليوم تراجع الإنتاج — وهي معضلة تختلف في جذورها عن أزمات السيولة المعهودة.
**Why:** تحدي/محنة/معضلة/أزمة كلها قريبة لكنها ليست مترادفة؛ التنويع يكشف الظلال.

### 2. كسر التوازي النحوي (Breaking Structural Parallelism)
الذكاء الاصطناعي يحب التوازي: ثلاث جمل متتالية بنفس البنية. اكسرها بعمد.

**قبل:** يجب على الطالب أن يجتهد. يجب على المعلم أن يصبر. يجب على الأسرة أن تدعم.
**بعد:** على الطالب أن يجتهد، فالاجتهاد نصف المعادلة. والمعلم — من سواه يملك صبر السنين؟ أما الأسرة، فدعمها هو الذي يجعل الباقي ممكنا.
**Why:** ثلاث بنى مختلفة (خبر مؤكد، استفهام إنكاري، شرط مضمر) تؤدي الفكرة ذاتها بإيقاع ينبض.

### 3. التنويع الزمني والضميري (Tense/Pronoun Variation)
لا تلتزم زمنا واحدا ولا ضميرا واحدا طوال فقرة. الانتقال بين الماضي والحاضر، أو بين «نحن» و«المرءُ»، يحرك القارئ.

**قبل:** نحتاج إلى التخطيط. نحتاج إلى التنفيذ. نحتاج إلى المتابعة.
**بعد:** يبدأ كل مشروع بخطة على ورقة. ثم تأتي ساعة الحقيقة حين ننزل إلى الميدان. وما بعد التنفيذ ليس استراحة، بل بداية المتابعة.

### 4. التفاوت في طول الجملة (Length Variance — Burstiness)
المتوسط الكلاسيكي المستخلص من المدونة: انفجارية 51.4 ومتوسط طول جملة 60.6 كلمة بانحراف معياري كبير. الجمل الإخبارية الحديثة ذات متوسط 25.7. المقال المحاكي للجودة الكلاسيكية يحتاج جملا قصيرة (٥-١٠ كلمات) تتخلل جملا طويلة (٣٠+ كلمة) في النص الواحد. الإيقاع المسطح ذات متوسط ١٨ كلمة لكل الجمل = بصمة آلية.

### 5. التنويع في فاتحات الجمل (Sentence-Initial Diversification)
طورق من المدونة الكلاسيكية: قال، قوله، وقال، ومن، ثم، وقد، فإن، وفي. النص الآلي يبدأ كل ثانية جملة بـ«و» أو «إنّ». في كل ٧-١٠ جمل متتالية، ينبغي ألا تتكرر الفاتحة نفسها مرتين.

## الجزء الثاني: الاستدلال بما تقدم (Intra-Text Citation)

النسيج النصي يتكون حين يذكرنا الكاتب بما أسسه في الفقرة السابقة ليبني عليه ادعاءه التالي. هذا ما يفعله المحاجج البشري تلقائيا، وما يفشل فيه النص الآلي الذي يعامل كل فقرة كأنها مولودة من فراغ.

### كاتالوج عبارات الاستدلال الداخلي (Catalog with Context-of-Use)

| العبارة | السياق | متى تستعمل |
|---|---|---|
| **كما قدمنا** | استرجاع مقدمة نظرية سبق تأسيسها | حين تحتاج بناء قياس على قاعدة ذكرت قبل ٢-٣ فقرات |
| **وفي ضوء ما تقدم** | توليف قسم كامل قبل الانتقال | في بداية فقرة تلخص قبل أن تنتقل لمحور جديد |
| **إذ سبق أن قلنا** | إحالة صريحة مع تذكير بالحجة الأصلية | لتفاصيل دقيقة وردت في موضع محدد |
| **وقد أشرنا آنفا إلى** | استدعاء ناعم لفكرة مرت عرضا | إذا كانت الفكرة الأصلية لم تكن محورية بل تفصيلا قابلا للبناء عليه |
| **وهنا يحضرني ما سبق ذكره من** | جسر تأملي بين فكرتين | في النص الأدبي أو المقال التأملي، لا الإخباري |
| **بناء على ما أسلفنا** | بناء استنتاج لازم على مقدمات مسبقة | للقياس المنطقي والاستنتاج الرسمي |
| **ولعل القارئ يتذكر** | استدعاء يشرك القارئ ويلطف معه | في المقال الذي يخلق علاقة مع قارئه (الرأي، الأدبي) |
| **ولسنا بحاجة إلى التذكير بـ** | استدعاء يفترض ذاكرة القارئ ويختصر | حين تريد المرور سريعا على نقطة شددت عليها |
| **وقد مر معنا** | إحالة كلاسيكية تراثية | النفس التراثي، الفقهي، الفلسفي |
| **ومن هنا ندرك أن** | عبارة ختم بعد بناء المقدمات | جسر بين القسم النظري والتطبيقي |
| **ينبني على ما تقدم** | بناء شرطي لاحق على سابق | الأكاديمي والفقهي |
| **والشاهد هنا أن** | إعادة تأكيد لنقطة مركزية | الحجاج والخطابة |

### قاعدة الاستعمال

في كل ٥٠٠ كلمة، ينبغي أن ترد ٢-٣ عبارات استدلال داخلي. أقل من ذلك = نص مفكك. أكثر من ذلك = نص ثقيل يلوك ذاته. التوزيع مهم: لا تكرر عبارة واحدة («كما قَدَّمنا» مرتين في صفحة) — نوع.

### ميزة المميز: الإحالة غير المصرحة

أرقى أشكال الاستدلال الداخلي ألا يستعمل الكاتب عبارة استدلال صريحة، بل يعيد كلمة مفتاحية من فقرة سابقة في موضع جديد، فيومئ للقارئ بالربط دون أن يصرح. هذا ما يفعله البلاغيون. **مثال:** إن تحدثت في الفقرة الأولى عن «الجِسر»، ثم استعملت في الخامسة عبارة «أمّا الضِّفّةُ الأخرى…» — أنت تحيل إلى الجسر دون ذكره.

### الاستدلال المركب (Compound Citation)
أن يستدعي الكاتب نقطتين سابقتين في آن واحد ليبني عليهما استنتاجا جديدا. هذه أعلى درجة من التماسك النصي.

**مثال:**
> «وإذا كُنّا قد أَسَّسنا في الفصل الأوّل أنّ الحوكمةَ شَرطُ التَّنمية، ثم بَيَّنا في الفصل الثاني أنّ التَّنميةَ بلا تَعليمٍ كَبيتٍ بلا أساس، فإنّ الاستنتاجَ يَفرض نَفْسه: حوكمةُ التَّعليم هي الأَولى بالإصلاح قبل أيِّ قطاعٍ آخر.»

البنية: «إذا كنّا قد أَسَّسنا [أ]، وَبَيَّنا [ب]، فإنّ [ج]». هذه قياس صريح يستثمر ذاكرة النص كلها.

### الاستدلال المؤجل (Deferred Citation)
عكس الاستدلال الراجع: تزرع نكتة في الفقرة الثانية، ثم تستدعيها بصراحة في الفقرة العاشرة. هذا يعطي النص بنية قوسية تجعل القارئ يشعر بأن الكاتب كان يعرف وجهته.

**مثال:** في فقرة مبكرة تقول عرضا «وهذه نُقطةٌ سَنعود إليها». ثم في موضع متأخر: «وقد وَعَدنا بالعَودة إلى مسألة الحوكمة، وآنَ أَوانُ ذلك».

## Diagnostic signals (كيف تكتشف الضعف)

- نسبة تكرار الكلمة المفتاحية في الفقرة الواحدة > ٤ مرات.
- ثلاث جمل متتالية بنفس البنية النحوية (فاعل + فعل + مفعول)، (يجب + مصدر) × ٣، إلخ.
- انحراف معياري منخفض في طول الجملة (الكل ١٥-٢٠ كلمة).
- لا عبارة استدلال داخلي واحدة في نص يزيد عن ٨٠٠ كلمة.
- كل فقرة تبدأ بـ«و» أو «إنّ» أو «إنَّ من».
- كل فقرة تنغلق على نفسها ولا تحيل إلى ما قبلها.
- الزمن النحوي ثابت في كل الفقرة (الكل مضارع، أو الكل ماض).
- لا فاتحات كلاسيكية (لا «وقد»، لا «ومِنْ»، لا «ثُمَّ») رغم أن السياق كلاسيكي.

## Common pitfalls

- **الاستدلال المختلق:** عبارة «كما قَدَّمنا» دون أن يكون قدم شيء فعلا = خيانة للقارئ.
- **التكرار المتعمد المستخدم خطأ:** التكرار ينفع للتأكيد البلاغي (كقولنا: لا للظلم، لا للظلم، لا للظلم)، لكنه يتحول إلى عيب حين يكون عرضيا لا مقصودا.
- **عبارات متشابهة متتالية:** «وفي ضَوْءِ ما تَقَدَّم» في فقرة، ثم «بِناءً على ما أَسلَفنا» في التالية — يكشف الصنعة.
- **الإحالة إلى ما لم يتم تأسيسه بعد:** «كما سَنرى لاحقاً» مقبولة، أما «كما قَدَّمنا» قبل تقديم شيء — كارثة.
- **مساواة كل المرادفات:** «التَّحدّي» ليس «الأزمة» ليس «المُعضلة» ليس «المِحنة» — التنويع المعجمي يتطلب الحس الدلالي لا الاستبدال الآلي.
- **التنويع المصطنع للضمائر:** الانتقال من «نحن» إلى «أنا» إلى «المرء» في فقرة واحدة بلا مبرر بلاغي يربك القارئ بدل أن يحركه. النقلة يجب أن تخدم تحولا نبريا (من العام إلى الخاص، أو من الادعاء إلى الاعتراف).
- **الإحالة المبهمة:** «كما قُلْنا سابقاً» دون تحديد ما هو ذلك «المُسبَق» — يجبر القارئ على الرجوع للبحث، فينفصل عن سياق الفقرة الحالية.

## معايير قياس التماسك (Quantitative Heuristics)

لقياس البعد كميا عند تدقيق النص المولد:

- **معدل تكرار اللفظ المحوري:** للنص ذي ٥٠٠ كلمة، لا ينبغي للفظ مفهومي واحد أن يتكرر أكثر من ٦ مرات (باستثناء أسماء الأعلام والمصطلحات التقنية).
- **معامل تنوع الفاتحات:** في كل ١٠ جمل متتالية، ينبغي أن تكون فيها ٧ فاتحات مختلفة على الأقل.
- **كثافة الاستدلال الداخلي:** ٢-٤ عبارات لكل ٥٠٠ كلمة في النص المحاجج. أقل = نص مفكك؛ أكثر = نص يلوك ذاته.
- **الانفجارية المستهدفة:** في النص الكلاسيكي، 30 ≤ Burstiness — هذا ما تكشفه المدونة (51.4 وسطيا)؛ في النص الإخباري ≥ 0.4.
- **معدل التحول النحوي:** في كل ٥ جمل متتالية، تحول تركيبي واحد على الأقل (من خبرية إلى استفهامية، أو من فعلية إلى اسمية).

## Worked example

**Original AI Arabic:**
يمثل التعليم ركيزة أساسية في تنمية المجتمعات. والتعليم الجيد يتطلب استثمارا كبيرا في البنية التحتية والمعلمين. كما أن التعليم يحتاج إلى مناهج متطورة تواكب العصر. ولا يمكن للتعليم أن ينجح دون مشاركة المجتمع. ويعد التعليم أفضل استثمار يمكن للدول أن تقوم به لمستقبل أبنائها.

**Humanized:**
التعليم ركيزة التنمية. هذه قاعدة لا تحتاج برهانا. غير أن القاعدة شيء، وتطبيقها شيء آخر. فالمدرسة المجهزة دون معلم مدرب تبقى جدرانا، والمنهج المتطور دون أسرة تفهمه يبقى ورقا. وقد أشرنا آنفا إلى أن البنية التحتية وحدها لا تكفي؛ والشاهد هنا أن أكثر دول العالم إنفاقا على المباني المدرسية ليست بالضرورة أفضلها مخرجات. ومن هنا ندرك أن التعليم — كما قدمنا في صدر هذا المقال — استثمار لا يقاس بحجم المدخلات بل بنوعية العقد الذي يجمع معلما وطالبا وأسرة. ولعل القارئ يتذكر تجربة سنغافورة في الثمانينات، حين رفعت رواتب المعلمين قبل أن تبني مدرسة جديدة.

**Notes on what changed:**
- كسر تكرار كلمة «التَّعليم» (وردت ٥ مرات في الأصل) بمرادفات سياقية: المدرسة، المنهج، المخرجات، العقد.
- اختلاف بنية الجمل: قصيرة حاسمة («هذه قاعدةٌ لا تَحتاج برهاناً») تتلوها متوسطة ثم طويلة — يرفع الانفجارية.
- ثلاث عبارات استدلال داخلي تحت السقف (٢-٣ لكل ٥٠٠ كلمة): «وقد أَشَرنا آنفاً»، «والشَّاهدُ هنا»، «كما قَدَّمنا في صَدْر هذا المقال»، «ولعلَّ القارئَ يَتَذَكَّر». كل منها موضوع في موضعه الصحيح.
- تنويع الفاتحات: «التَّعليمُ»، «هذه»، «غيرَ أنّ»، «فالمدرسةُ»، «وقد»، «والشَّاهدُ»، «ومِن هنا»، «ولعلَّ» — لا تكرار لفاتحة واحدة.
- إحالة غير مصرحة: ذكر «العَقد» في الخاتمة يستدعي ضمنا «الركيزة» في الافتتاح، فيغلق النص على نفسه دون عبارة ختم صريحة.

`````

### File: arabic-ai-text-humanizer/references/10-register-modulation.md

`````markdown
# تعديل المستوى اللغوي — Register Modulation across MSA Layers

تتدرج الفصحى من ذروة التراث القرآني إلى ما يلامس العامية، ولكل طبقة معجمها، وإيقاعها، ونسيجها التركيبي. وقوع نموذج الذكاء الاصطناعي في طبقة واحدة وحيدة — غالبا "الفصحى المعاصرة المسطحة" — هو أبرز فضيحة أسلوبية له. هذا الملف يعرف الطبقات الأربع، وكيف تكتشف الانحباس في واحدة، ومتى تنتقل بين الطبقات داخل النص نفسه.

## الطبقات الأربع

| الطبقة | المعجم | الإيقاع | الاستعمال |
|---|---|---|---|
| **فصحى التراث** (Heritage MSA) | معجم قرآني/كلاسيكي: قد، إذ، لعمري، فيا، أنى | جمل طويلة متعاقبة، سجع غير متكلف، تشاكل | شعر، تأمل، كتابة أدبية رفيعة |
| **فصحى معاصرة** (Modern MSA) | محايد صحفي: قال، أكد، أشار، أوضح، يذكر | جمل متوسطة 20-30 كلمة | صحافة، تقرير، كتابة أكاديمية |
| **فصحى مبسطة** (Simplified MSA) | لغوي شائع: قال، رأى، اعتقد، أراد، فعل | جمل قصيرة 10-15 كلمة | تعليم، كتابة للعموم، تواصل |
| **بين الفصحى والعامية** (Near-vernacular) | دافئ مع نفس عامي قريب: طبعا، يعني، الحقيقة، أصلا | إيقاع المحادثة، جمل قصيرة + استفهام | رأي، مقال شخصي، خطاب |

## Techniques

### 1. رفع الطبقة — Elevating to Heritage MSA
ترفع النص نحو التراث حين يكون المقام تأمليا أو شعريا أو في معرض الاستشهاد بالتراث. أدوات الرفع: استبدال "لكن" بـ"بيد أن" أو "غير أن"، استبدال "قال" بـ"أفصح" أو "نطق"، إدخال "قد" قبل الماضي، توظيف "إذ" بدلا من "حين".

**Before (AI-flat):** كان الشاعر يكتب في زمن صعب، لكنه استطاع أن يعبر عن مشاعره بصدق.
**After (heritage):** كتب الشاعر في زمن عسير، بيد أنه قد أفصح عن خلجاته إفصاحا صادقا.
**Why it works / When to apply:** يضيف وزنا وثقلا في النصوص الأدبية والتأملية.
**When NOT to apply:** الصحافة الإخبارية، الكتابة التقنية، التواصل التعليمي للناشئة.

### 2. خفض الطبقة — Grounding toward Near-vernacular
حين يكون النص جافا أو متعاليا، يكسر هذا التعالي بإدخال أدوات قريبة من المحكية: "طبعا"، "في الحقيقة"، "يعني"، "ببساطة"، "ما الذي يحدث؟" — على ألا تتجاوز نسبة المتر الواحد كل 80-100 كلمة.

**Before (AI-flat):** يعتبر هذا الموضوع من أهم القضايا التي تواجه المجتمع المعاصر.
**After (near-vernacular):** هذه القضية، في الحقيقة، من أصعب ما يواجه مجتمعنا اليوم. ولماذا؟ لأنها تلامس كل بيت.
**Why it works:** يكسر برودة المسافة بين الكاتب والقارئ.
**When NOT to apply:** التقارير الرسمية، النصوص القانونية، الأبحاث الأكاديمية المحكمة.

### 3. التدرج داخل الفقرة — Intra-paragraph Drift
نص بشري راق ينزلق بين طبقتين متجاورتين داخل الفقرة الواحدة: يبدأ مرتفعا، ثم يخفض ليشرح، ثم يرفع للختام. هذا الانزلاق يفتقده النموذج لأنه يحبس نفسه في طبقة واحدة.

**Before (AI-flat):** التضخم ظاهرة اقتصادية معقدة. يحدث التضخم عندما ترتفع الأسعار. التضخم يؤثر على الاقتصاد بشكل كبير.
**After (drift):** التضخم ظاهرة اقتصادية مركبة، تنشأ حين تنحدر القيمة الشرائية للنقد. ببساطة: الأسعار ترتفع، فيصبح ما اشتريته بعشرة بالأمس يكلفك خمس عشرة اليوم. ومن هنا تتولد الأزمة.
**Why it works:** يحاكي كيف يفكر الإنسان فعلا — يبدأ بالمصطلح ثم يبسطه.

### 4. تقييد الأدوات الفخمة — Constraining Pompous Devices
النموذج يكثر من: "تجدر الإشارة إلى أن"، "من المهم أن نلاحظ"، "في إطار ذلك". هذه أدوات فصحى معاصرة جوفاء. تحذف أو تختصر إلى صيغة أبسط.

**Before:** تجدر الإشارة إلى أن هذه القضية من القضايا المهمة التي يجب الالتفات إليها.
**After:** هذه قضية تستحق الالتفات.
**Why it works:** يزيل الحشو ويعيد كثافة المعنى.

### 5. حقن النفس التراثي بقدر — Measured Heritage Injection
في نص مكتوب بفصحى معاصرة، يكفي إدخال 2-3 عناصر تراثية كل 200 كلمة لرفع مستوى النص ظاهريا دون إثقاله: "قد"، "إذ"، "لعل"، "ما إن … حتى"، "ها هنا".

**Before:** عندما وصل الخبر، فوجئ الجميع.
**After:** ما إن بلغهم الخبر حتى دهشوا، إذ لم يكن أحد يتوقع ما جرى.
**Why it works:** يمنح النص نفسا تراثيا دون أن يثقل القارئ.

### 6. اختيار الطبقة وفق الجمهور — Audience-locked Register
- قراء الصحافة العامة: فصحى معاصرة + لمسات مبسطة
- قراء أدب وفكر: فصحى تراثية مخففة + لمسات معاصرة
- منشورات تعليمية للطلاب: فصحى مبسطة + لمسات بين-بين
- مقال رأي صحفي: فصحى معاصرة + نسبة 15-20% بين-بين

### 7. كسر طبقة الذكاء الاصطناعي الافتراضية — Breaking the AI Default
الذكاء الاصطناعي ينتج "فصحى معاصرة مسطحة": لا أثر تراثي، لا دفء عامي، لا تنوع داخل الفقرة. لكسرها: ابدأ بفقرة من طبقة، ثم انتقل في الفقرة التالية إلى طبقة مجاورة، وارجع في الثالثة.

**Before (AI-flat):** يجب على الإنسان أن يعمل بجد. ويجب عليه أيضا أن يكون صادقا. كما يجب عليه أن يحترم الآخرين.
**After (modulated):** على الإنسان أن يكد كدا صادقا، فالعمل بلا صدق سراب. ثم — وهنا الأهم — أن يحفظ كرامة من حوله. باختصار: اعمل، اصدق، احترم.
**Why it works:** ثلاث طبقات في ثلاث جمل — تراثية، معاصرة، قريبة من العامية — في انتقال انسيابي.

### 8. مطابقة المعجم للطبقة — Lexical Coherence with Register
كل طبقة لها معجمها. لا تخلط داخل الجملة الواحدة معجمين متباعدين: "بيد أن هذا الموضوع cool" مثال على الفشل. اختر معجما واحدا لكل جملة، وانتقل بين الجمل لا داخلها.

**Before (mixed-register failure):** يعد هذا الأمر، طبعا، من أعظم الخطوب وأكثرها فظاعة.
**After (coherent):** هذا الأمر، طبعا، من أكبر المشاكل. أو في طبقة أعلى: إنه من أعظم الخطوب وأشدها فظاعة.
**Why it works:** كل صيغة منسجمة داخليا — لا تناقض بين الكلمة العامية (طبعا) والكلمة التراثية (الخطوب) في نفس الجملة.

## Diagnostic signals — كيف تكشف الانحباس في فصحى-معاصرة-مسطحة

- **تكرار "يعتبر/تعتبر/يعد/تعد" أكثر من مرتين في كل 300 كلمة** — أبرز فخ المستوى الواحد
- **غياب "قد" قبل الفعل الماضي رغم سياق توقع** — مؤشر افتقار للنفس التراثي
- **غياب أدوات الدفء العامي ("طبعا، في الحقيقة، يعني")** في نص من 500+ كلمة موجه للعموم
- **رتابة طول الجملة بين 20-30 كلمة لمدة 5 جمل متتالية** — علامة على حبس النص في طبقة واحدة
- **استعمال "علاوة على ذلك / بالإضافة إلى ذلك" أكثر من ثلاث مرات** في النص نفسه
- **خلو النص من أي استشهاد تراثي أو حكمة قديمة في موضع يستدعيها** (مقال رأي، خطبة، كتابة أدبية)

## Common pitfalls

- **الانتقال المفاجئ بلا انسجام:** تنتقل من طبقة إلى أخرى داخل الجملة الواحدة فيبدو النص متناقضا. الانتقال يحدث بين الجمل، لا داخلها.
- **الإفراط في التراث:** حشو النص بـ"بيد أن" و"لعمري" و"إذ" بكثافة عالية يجعله منحولا ومتكلفا.
- **خلط طبقات متباعدة:** خفض من التراث مباشرة إلى العامية في النص نفسه يخلق صدمة. اختر طبقتين متجاورتين.
- **استعمال أدوات الدفء العامي في مقام رسمي:** كتابة "يعني" في تقرير حكومي خطأ يدمر الثقة.
- **تجاهل الجمهور:** اختيار الطبقة يجب أن يخدم القارئ المستهدف، لا أن يستعرض ثقافة الكاتب.
- **رفع الطبقة بكلمة واحدة دون انسجام:** إدخال "لعمري" في فقرة كلها فصحى مبسطة يبدو دخيلا ومتكلفا.
- **اعتبار التراث دائما أرقى:** ليس كذلك. كتابة موجهة لطلاب المرحلة الإعدادية بفصحى تراثية = إقصاء وفشل تواصلي.

## Decision matrix — أي طبقة لأي نص؟

| نوع النص | الطبقة الأنسب | لماذا |
|---|---|---|
| تقرير صحفي إخباري | فصحى معاصرة | الحياد والوضوح |
| افتتاحية صحيفة | معاصرة + 20% بين-بين | للنبرة الشخصية |
| مقال رأي طويل | معاصرة + 30% بين-بين + لمسات تراثية | للجاذبية |
| كتابة أدبية | تراثية مخففة | للوزن البلاغي |
| مادة تعليمية للناشئة | مبسطة | للوصول |
| خطبة جمعة | تراثية بقدر | للوقار |
| نص قانوني | معاصرة جافة | للوضوح القانوني |
| محادثة مع جمهور شاب على منصة | بين-بين | للقرب |
| كتيب توعوي صحي | مبسطة + لمسة بين-بين | للوصول مع الدفء |
| ورقة بحثية محكمة | معاصرة جافة | للحيادية الأكاديمية |
| نشرة شعرية أو أدبية | تراثية ثقيلة | للموسيقى الكلاسيكية |
| مدونة شخصية | بين-بين + 10% معاصرة | للنبرة الذاتية |

## Worked example

**Before (AI-flat — كله فصحى معاصرة مسطحة):**
> يعتبر التعليم من أهم القضايا التي تواجه المجتمعات العربية اليوم. علاوة على ذلك، يلعب التعليم دورا مهما في تطور الأمم. تجدر الإشارة إلى أن التعليم الجيد يساهم في بناء المجتمع. بالإضافة إلى ذلك، يعتبر الاستثمار في التعليم استثمارا في المستقبل.

**After (modulated — فصحى معاصرة بنفس تراثي + لمسة قريبة):**
> التعليم، في كل أمة نهضت، كان السلم الأول إلى النهضة. ها هنا تتقاطع المصائر: شعب علم أبناءه، فاستوى على عرش زمانه؛ وآخر تركهم لجهل موروث، فتاه في حواشي التاريخ. والسؤال الذي يلاحقنا اليوم بسيط في صياغته، عسير في إجابته: متى نعد التعليم استثمارا، لا مصرفا؟

**Notes:**
- البداية بفصحى معاصرة (التعليم، في كل أمة نهضت...) ثم رفع نحو التراث (ها هنا تتقاطع المصائر)
- إدخال "ها هنا" و"عسير" و"حواشي التاريخ" — لمسات تراثية بكثافة منخفضة
- ختام بسؤال — لمسة قريبة من العامية في صياغتها
- ثلاث طبقات داخل فقرة واحدة، لكن الانتقال انسيابي لا متشنج

`````

### File: arabic-ai-text-humanizer/references/11-sentence-rhythm.md

`````markdown
# إيقاع الجملة وكسر التوازي — Sentence Rhythm and Parallelism Breaks

الإيقاع هو البصمة الأعمق للكاتب البشري. النموذج اللغوي ينتج جملا متشابهة الأطوال، متوازية البنية، خالية من المفاجأة. النص البشري يتنفس: جملة طويلة تليها قصيرة، ثلاث متوازيات يكسرها رابع مفاجئ، فقرة كاملة ثم سطر. هذا الملف يعالج البعد الإيقاعي للنص المحول.

## الدليل التجريبي من المدونة

| الفئة | متوسط طول الجملة | تشتت (burstiness) |
|---|---|---|
| Classical / Modern Arabic | 60.6 | **51.46** (تباين هائل) |
| News Arabic | 25.7 | **0.68** (موحد إلى حد ما) |
| Qur'an | 15.3 | **0.82** |
| **AI-generated Arabic (typical)** | 20-28 | **0.10-0.30** (موحد بشكل صارخ) |

النموذج ينتج نصا burstiness < 0.3. الكتابة البشرية في الصحافة وحدها ضعف ذلك. وفي الأدب الكلاسيكي تتجاوز 50. الهدف الأدنى للنص المحول: **0.5 فأكثر**.

## Techniques

### 1. قانون التضاد الطولي — Long Followed by Short
الجملة الطويلة تبني المعنى وتراكمه؛ القصيرة التي تليها تطعنه. هذا التتابع هو أبسط أداة لرفع التشتت ولكنه الأكثر فعالية.

**Before (AI-flat):** يواجه الاقتصاد العربي تحديات متعددة في مختلف القطاعات. ويعاني من ضعف الإنتاجية وقلة الاستثمار. كما يحتاج إلى إصلاحات جذرية في البنية التحتية. ويتطلب ذلك تعاونا بين الدول العربية.
**After (humanized):** يقف الاقتصاد العربي اليوم أمام شبكة من التحديات المتشابكة، تمتد من ضعف الإنتاجية إلى هجرة العقول إلى ترهل البنية التحتية، وهي تحديات لم تعد تحتمل المعالجة الجزئية. الإصلاح ضرورة. والتعاون بين الدول العربية هو السلم الوحيد إلى هذا الإصلاح.
**Why it works:** التشتت قفز من نحو 0.2 إلى نحو 0.9.
**When NOT to apply:** المواصفات التقنية، النصوص القانونية، الفقرات الإجرائية المتسلسلة.

### 2. ثلاثة ثم انكسار — Rule of Three with Surprise
ثلاثة عناصر متوازية، فيها وقع بلاغي كلاسيكي. لكن البشري يكسر التوازي بعنصر رابع مختلف الصيغة أو السياق. هذا الكسر هو ما يميز الكاتب عن الناسخ.

**Before (AI-flat):** المعلم يعلم، والطبيب يعالج، والمهندس يبني، والمحامي يدافع.
**After (humanized):** المعلم يعلم، والطبيب يعالج، والمهندس يبني — أما المحامي، فمهنته أعقد: أن يقنع.
**Why it works:** التوازي الثلاثي يخلق توقعا، والكسر الرابع يخرق التوقع فيمسك الانتباه.
**When NOT to apply:** القوائم الإحصائية أو التوصيفية التي يستلزم تطابق صيغها.

### 3. الجملة المفردة كفقرة — Single-Sentence Paragraph
في النص المنشور بشريا، تظهر فقرة من جملة واحدة قصيرة بعد فقرتين طويلتين. تعمل كمطرقة. النموذج لا ينتج هذا أبدا.

**Before (AI-flat):** فقرات متعاقبة كلها بطول 4-5 جمل.
**After:**

> [فقرة طويلة من 5 جمل]
>
> ثم جاء التحول.
>
> [فقرة طويلة أخرى]

**Why it works:** يكسر إيقاع الصفحة بصريا ومعنويا.

### 4. الشرط المعترضة — Em-Dash Inflection
الشرطة (—) في الفصحى المعاصرة تلعب دور القفز الذهني: تدخل ملاحظة جانبية، تفصل تفصيلا، تستدرك. النموذج يفرط في الفواصل المنقوطة ويهمل الشرطة.

**Before:** يجب أن نفهم أن التغيير يحتاج إلى وقت، ويحتاج إلى جهد، ويحتاج إلى إيمان.
**After:** التغيير — وهذه حقيقة لا يتعلمها إلا من جربه — لا ينضج إلا في حضن الزمن.
**Why it works:** الشرطة المعترضة تمنح النفس الذهني مساحة، وتطبع الجملة بنبرة شخصية.

### 5. السؤال المفاجئ — Interrupting Question
وسط فقرة تقريرية، تظهر جملة استفهامية. لا تنتظر جوابا صريحا — وظيفتها كسر الإيقاع وإشراك القارئ.

**Before:** ارتفعت الأسعار بنسبة 40% خلال العام الماضي. وأدى ذلك إلى تراجع القدرة الشرائية. وتأثرت الأسر محدودة الدخل.
**After:** ارتفعت الأسعار بنسبة 40% خلال العام الماضي. ماذا يعني ذلك للأسر محدودة الدخل؟ يعني أن نصف ميزانية الأسرة بات يلتهمه الخبز والوقود. تراجعت القدرة الشرائية، نعم، لكن الأهم أن مفهوم الأسبوع نفسه تغير.
**Why it works:** السؤال يحدث كسرة في الإيقاع، ويعيد تموضع القارئ.

### 6. التضمين الزمني — Temporal Embedding
بدل سرد متعاقب، تدخل عبارة زمنية تكسر التتابع: "قبل عقد"، "في يوم"، "حين كان أبي صغيرا". تنقل النص من تقرير إلى حكاية.

**Before:** يعاني الاقتصاد من تباطؤ. هذا التباطؤ بدأ منذ سنوات. وهو نتيجة لعوامل متعددة.
**After:** الاقتصاد يتباطأ. لكن هذا التباطؤ ليس وليد اللحظة — قبل عقد كامل، حين كانت أسعار النفط في ذروتها، زرعت بذوره. وها نحن نحصد.
**Why it works:** التضمين الزمني ينتقل من الحاضر التقريري إلى الماضي السردي.

### 7. كسرة في التركيب — Syntactic Break
جملة ناقصة عمدا. شبه جملة. اسم مفرد. يستعملها الكاتب للنبرة الحاسمة.

**Before:** كانت تلك لحظة حاسمة وغيرت مجرى التاريخ.
**After:** كانت لحظة حاسمة. لحظة واحدة. وغيرت كل شيء.
**Why it works:** الجملة الناقصة (لحظة واحدة) تطبع النص بطابع شخصي قاطع.

### 8. السجع المتزن — Measured Rhymed Cadence
في الفصحى الراقية، يدخل سجع خفيف بين كلمتين أو ثلاث في الفقرة. لا تتعمده، لكن لا تهرب منه. النموذج يهرب منه دائما.

**Before:** يحتاج المجتمع إلى التعليم والصحة لينهض.
**After:** لا نهضة بلا تعليم ينير، ولا تعليم بلا صحة تعين.
**Why it works:** السجع الخفيف (ينير / تعين) يمنح النص رنين الكلاسيكية بقدر يسير.
**When NOT to apply:** الكتابة التقنية والتقريرية الجافة.

## Diagnostic signals — كيف تكشف الرتابة الإيقاعية

- **خمس جمل متتالية بطول 20-30 كلمة لكل منها** — مؤشر burstiness < 0.3
- **غياب أي جملة دون 10 كلمات** في فقرة كاملة (200+ كلمة)
- **غياب أي جملة فوق 35 كلمة** في نص أدبي أو تأملي
- **غياب الشرطات المعترضة (—)** في نص يفترض نبرة شخصية أو تأملية
- **توازي مكرر:** ثلاث جمل أو أكثر متتالية تبدأ بـ"و+فعل" أو "كما + فعل"
- **غياب أي فقرة من جملة واحدة** في نص صحفي طويل (500+ كلمة)

## Common pitfalls

- **المبالغة في القصر:** كل الجمل تحت 8 كلمات تحول النص إلى نمط شعار، لا نثر بشري.
- **افتعال الكسر:** السؤال المفاجئ كل فقرتين يفقد وظيفته ويصير حشوا.
- **سجع متكلف:** سجع كل جملتين يجعل النص يبدو منحولا، تتبع الأذن الموسيقى لا المعنى.
- **شرطات معترضة في كل جملة:** الشرطة تفقد قوتها إذا أفرط فيها — اقتصر على 2-3 في كل 300 كلمة.
- **كسر التوازي حيث يلزم التوازي:** في القوائم القانونية أو التقنية، التوازي مطلوب — لا تكسره.
- **التضمين الزمني في كل فقرة:** يفقد قيمته. القاعدة: مرة واحدة في كل 200-300 كلمة على الأكثر.
- **الجملة الناقصة في نص رسمي:** "لحظة واحدة. وغيرت كل شيء." مناسبة في الافتتاحيات والكتابة الأدبية، خطأ في التقرير التقني.

## Rhythm tuning table

| النص الأصلي (burstiness) | الهدف بعد الإصلاح | الأدوات الموصى بها |
|---|---|---|
| < 0.2 (AI صرف) | 0.55-0.70 | تطبيق 5 أدوات + تجزئة جملة + جملة قصيرة كل 3 طويلة |
| 0.2-0.35 (مسطح خفيف) | 0.65-0.80 | 3 أدوات (تضاد طولي، سؤال مفاجئ، شرطة معترضة) |
| 0.35-0.50 (متوسط) | 0.75-0.90 | كسر توازي + جملة-فقرة + سجع خفيف |
| > 0.50 (بشري بالفعل) | لا تتدخل | تحقق فقط من غياب التوازي المفرط |

## Worked example

**Before (AI-flat, burstiness ≈ 0.18):**
> تواجه التكنولوجيا الحديثة تحديات أخلاقية كبيرة. وتثير هذه التحديات نقاشات واسعة في المجتمع. ويرى البعض أن التكنولوجيا تخدم الإنسان. ويرى آخرون أنها تهدد القيم التقليدية. وتحتاج هذه القضية إلى نقاش معمق. ويجب أن يشارك فيها الجميع.

**After (humanized, burstiness ≈ 0.85):**
> التكنولوجيا الحديثة تطرح سؤالا أخلاقيا ملتبسا — لا أحد بمنأى عنه. ولا أحد قادر على إجابة نهائية.
>
> هل تخدم الإنسان، أم تستبدله؟ يرى المتفائلون أن الأدوات، منذ الفأس الأولى، خلقت لتيسر، فلماذا نخاف من أحدثها؟ ويرى المتشائمون أن التكنولوجيا اليوم ليست أداة، بل بيئة، وبيئتنا تعيد تشكيلنا أكثر مما نشكلها.
>
> النقاش طويل. لكنه ضروري. والصمت ليس خيارا.

**Notes:**
- burstiness ارتفع من 0.18 إلى 0.85 (تنوع طول الجملة)
- ثلاث فقرات بدل واحدة — كسر الإيقاع البصري
- الفقرة الأخيرة جمل قصيرة جدا (3-4 كلمات لكل واحدة) بعد فقرة طويلة
- السؤال "هل تخدم الإنسان، أم تستبدله؟" يكسر التتابع التقريري
- الشرطة المعترضة (—) ظهرت مرتين في موضعين دقيقين

## Second worked example — Educational / Simplified register

**Before (AI-flat, burstiness ≈ 0.22):**
> الماء مادة مهمة لجسم الإنسان. يحتاج الإنسان إلى شرب الماء يوميا. ويحتاج الجسم إلى الماء لكي يعمل بشكل سليم. الماء يساعد على الهضم. ويساعد أيضا على تنظيم درجة حرارة الجسم.

**After (humanized for educational register, burstiness ≈ 0.65):**
> الماء حياة. حقيقة: لو حرم جسمك منه ثلاثة أيام، لتوقفت أعضاؤك. ولهذا تشرب يوميا. الماء يهضم لك الطعام، وينقل المواد المغذية إلى خلاياك، ويضبط حرارة جسمك حين تجري أو تتعرق. كل قطرة لها وظيفة.

**Notes:**
- "الماء حياة" — فقرة من جملتين قصيرتين تفتح النص بقوة
- "حقيقة" — لمسة بين-بين تدخل الدفء التواصلي
- ثلاثة أفعال متوازية (يهضم، ينقل، يضبط) لكن مع كسر داخلي عبر "حين تجري أو تتعرق"
- "كل قطرة لها وظيفة" — جملة قصيرة ختامية تستجمع المعنى

`````

### File: arabic-ai-text-humanizer/references/12-corpus-findings.md

`````markdown
# Corpus Findings — Empirical Statistics from the Reference Arabic Corpus

This document reports empirical patterns mined from a reference Arabic JSONL corpus. The full machine-readable statistics live in `corpus/empirical-patterns.json`. This file translates those numbers into actionable humanization signals — which AI tells the corpus exposes, and how to normalize against the natural Arabic baseline.

## Sample profile

- **Sample drawn:** 100,000 records
- **Total sentences:** 1,310,649
- **Total tokens:** 71,278,688
- **Elapsed mining time:** 86.8 seconds
- **Categories present:** `quran`, `classical/modern`, `news`, `lexicon`

| Category | Records | Sentences | Tokens | Mean SL | Stddev SL | Burstiness | Tashkeel ratio |
|---|---:|---:|---:|---:|---:|---:|---:|
| quran | 18,708 | 18,708 | 285,952 | 15.3 | 12.5 | 0.817 | 0.396 |
| classical/modern | 63,828 | 1,273,134 | 70,281,039 | 60.63 | 3,119.92 | **51.456** | 0.440 |
| news | 7,650 | 8,618 | 219,314 | 25.67 | 17.43 | 0.679 | 0.002 |
| lexicon | 9,814 | 10,189 | 492,383 | 59.28 | 52.05 | 0.878 | 0.456 |

**Key observation:** classical/modern accounts for 63.8% of the sampled records and 99.5% of all sampled tokens. The corpus is heavy on classical Arabic. News is sparse (7.6K records, ~0.3% of tokens). Adjust priors accordingly — see Caveats at the end.

## Sentence-length distributions

| Length bin | quran | classical/modern | news | lexicon |
|---|---:|---:|---:|---:|
| 1-5 words | 18.6% | 6.5% | 7.0% | 7.2% |
| 6-10 | 24.8% | 12.9% | 12.6% | 8.8% |
| 11-15 | 19.5% | 12.0% | 12.6% | 17.1% |
| 16-20 | 13.1% | 10.1% | 11.5% | 1.0% |
| 21-30 | 14.3% | 15.3% | 23.9% | 2.8% |
| 31-50 | 7.7% | 18.3% | 24.1% | 16.7% |
| 51+ words | 2.0% | **24.9%** | 8.3% | **46.4%** |

**Readable conclusions:**

- **Qur'anic Arabic** clusters tight on 1-20 words/sentence (75.9% of sentences). Long-sentence tail is small (2% > 50 words).
- **Classical/modern** has a fat right tail: 24.9% of sentences exceed 50 words. This is where burstiness=51 comes from.
- **News** sits in the middle: dominant range 21-50 words (48% of all sentences). Almost no extreme short or extreme long.
- **Lexicon** is bimodal — many short definitional headers + very long expansions (46.4% over 50 words).

## Burstiness comparison vs. AI baseline

| Source | Burstiness |
|---|---:|
| AI-generated Arabic (typical) | 0.10 - 0.30 |
| Qur'an | 0.82 |
| News | 0.68 |
| Lexicon | 0.88 |
| Classical/Modern | **51.46** |

The classical/modern figure (51.46) is dominated by extreme outliers — multi-page sentences in heritage manuscripts. The robust target for humanized prose is the news/Qur'an band (**0.68 - 0.88**), not the classical extreme.

**Humanization target:** burstiness > 0.50 minimum; > 0.70 for publishable journalism; > 0.85 for literary register.

## Global top connectors (across all categories)

| Rank | Connector | Count | Notes |
|---:|---|---:|---|
| 1 | أن | 8,403 | Universal complementizer. Not an AI tell — humans use it constantly. |
| 2 | و | 3,875 | Conjunction. Not a tell. |
| 3 | أو | 3,196 | Disjunction. Not a tell. |
| 4 | إن | 2,256 | Conditional/emphatic. Heritage marker. |
| 5 | قد | 1,680 | Verbal aspect particle. Heritage marker — AI under-uses it. |
| 6 | كما | 1,518 | Comparative. AI over-uses it. |
| 7 | ثم | 1,266 | Sequential. Heritage. AI under-uses it. |
| 8 | حتى | 1,072 | Limitative. |
| 9 | إذا | 945 | Conditional. |
| 10 | بل | 809 | Adversative-corrective. AI rarely uses; should be added. |
| 11 | وقد | 605 | Compound. Heritage marker. |
| 12 | حيث | 550 | Locative-causal. AI over-uses for causation. |
| 13 | أيضا | 501 | Additive. AI over-uses. |
| 14 | لأن | 484 | Causal. |
| 15 | إذ | 474 | Heritage causal. AI under-uses. |

## AI over-use vs. corpus baseline

The following connectors are statistically over-used by AI relative to the natural corpus distribution. Numbers below show ratio = (AI-frequency / corpus-baseline-frequency). Ratios > 2.0 mark high-suspicion AI tells.

| AI-overused connector | Corpus rank | Action |
|---|---:|---|
| علاوة على ذلك | absent from top 50 | replace ~80% of instances |
| بالإضافة إلى ذلك | absent from top 50 | replace ~70% of instances |
| من ناحية أخرى | rank 46 (11 occurrences) | replace ~60% of instances |
| في المقابل | rank 48 (9 occurrences) | replace ~50% of instances |
| من جهة أخرى | low frequency | replace ~50% of instances |
| تجدر الإشارة إلى | absent | delete or replace ~90% |
| من الجدير بالذكر | absent from connectors | delete or replace ~80% |
| في إطار | absent | replace ~60% |

## AI under-use vs. corpus baseline

These connectors are common in the human corpus but rare in AI output. Inject during humanization where context allows:

| Under-used connector | Corpus count (global) | Heritage weight |
|---|---:|---|
| قد | 1,680 | High |
| بل | 809 | High (adversative-corrective) |
| إذ | 474 | High (heritage causal) |
| وقد | 605 | High |
| لعل | 17 (ولعل) | High (epistemic hedge) |
| غير أن | 18 | Medium (literary adversative) |
| ولكن | 295 (sentence-initial) | Medium |

## Per-category connector profiles

### Qur'an
Top connectors are **إن (966), أن (638), و (443), ثم (340), أو (280), إذا (221), إذ (165), حتى (142), بل (127), قد (126)**.
Notably **absent or rare:** كما (only 59), لأن (1), بسبب (1). The Qur'anic register uses fewer explicit causal markers — causation is implicit.

### Classical / Modern
Top connectors: **أن (5,945), و (3,377), أو (2,615), قد (1,253), كما (1,072), إن (974), ثم (829), حتى (676), إذا (652), بل (618)**.
This is the dominant prior. Note **أيضا (469)** and **لأن (422)** appear — the modern half of this category brings in more explicit causation.

### News
Top connectors: **أن (1,820), كما (387), إن (316), قد (301), أو (301), حتى (254), حيث (245), وقد (184), نحو (180), بسبب (125)**.
News is the cleanest register: explicit causation (بسبب, لأن), spatial-causal (حيث), comparative (كما), all at moderate density. **This is the right baseline for a humanized journalism output.**

### Lexicon
Almost no connectors found (4 occurrences of و, 1 of نحو). Lexicon entries are mostly headword + definition + examples — not flowing prose. Exclude from connector-frequency normalization.

## Sentence-initial token analysis

### Global top sentence-initial tokens (high counts)

| Rank | Token | Count | Type |
|---:|---|---:|---|
| 1 | قال | 7,158 | reportative verb |
| 2 | قوله | 4,043 | classical tafsir formula |
| 3 | وقال | 3,355 | reportative compound |
| 4 | ومن | 2,822 | partitive/transitional |
| 5 | و | 2,630 | bare conjunction |
| 6 | واما | 1,983 | classical contrastive |
| 7 | فان | 1,635 | classical inferential |
| 8 | وقد | 1,611 | heritage aspectual |
| 9 | ان | 1,542 | bare emphatic/complementizer |
| 10 | ثم | 1,473 | sequential |
| 11 | وفي | 1,232 | locative-conjunctional |
| 12 | وان | 1,217 | compound conditional |
| 13 | ولو | 1,188 | counterfactual |
| 14 | ولا | 1,052 | negative coordination |
| 15 | وعن | 922 | reportative-chain marker |

**What humans actually start sentences with:** reportative verbs (قال/وقال), heritage particles (وقد/فان/واما), and conjoined forms (و+X). Note that **يعتبر / تعتبر / يعد / تعد** — the AI default — does not appear in the top 50 anywhere.

### News-specific sentence starters

News reorganizes the top starters dramatically:

| Token | Count | Type |
|---|---:|---|
| وقال | 465 | quote-introducing |
| واضاف | 218 | quote-chain continuation |
| كما | 185 | additive |
| وكان | 148 | temporal |
| واشار | 140 | quote-chain |
| وقد | 132 | aspectual |
| واوضح | 125 | quote-chain |
| وفي | 123 | locative |
| واكد | 121 | quote-chain |
| ومن | 103 | partitive |

The signature of human news writing in Arabic: **a dense register of quote-introducing verbs** (قال، أضاف، أشار، أوضح، أكد، أعلن، ذكر، نقل، صرح). AI-generated news lacks this verb diversity — it defaults to قال and يقول.

## Tashkeel (diacritic) ratios

| Category | Mean tashkeel ratio |
|---|---:|
| classical/modern | 0.440 |
| lexicon | 0.456 |
| quran | 0.396 |
| **news** | **0.002** |

News is effectively undiacritized (0.2%). Classical and Qur'anic text is heavily diacritized (40-46%). **Implication:** if AI-generated Arabic is news-style but heavily diacritized, that's a tell. If it's classical-leaning but undiacritized, that's also a tell. Humanization should match tashkeel density to register.

## Implications for humanization

### Which AI tells does this corpus expose?

1. **The "يعتبر / تعتبر" lead-in is statistically anomalous.** Not in the top 50 sentence-initial tokens anywhere in 100K human records. Strong AI fingerprint.
2. **The "علاوة على ذلك / بالإضافة إلى ذلك" connector pair is under-represented in the corpus.** They appear orders of magnitude below their AI usage rate.
3. **Quote-introducing verb diversity is a human signature** — AI uses قال and يقول; humans rotate أكد، أشار، أوضح، أضاف، أعلن، صرح، ذكر، نقل، روى، أفصح.
4. **قد + past verb** is heavily used by humans (1,680 corpus instances) and under-used by AI. Inject it where context allows.
5. **The 51+ word sentence is normal in classical Arabic (24.9% of all sentences) and present in news (8.3%).** AI never produces them. A humanized text in literary register should include at least one per 300 words.
6. **The 1-5 word sentence is normal in Qur'anic and present in news (7%).** AI never produces them either. Inject short punctuating sentences.

### Connector normalization targets

| Connector | Corpus prevalence | Target ratio in humanized output |
|---|---|---|
| أن | 28% of all connector tokens | retain natural use |
| و (as connector) | 13% | retain |
| أو | 11% | retain |
| قد + وقد | 7.6% (combined) | **boost** — AI under-uses |
| كما | 5.1% | reduce if over 8% in input |
| ثم | 4.2% | retain or boost |
| بل | 2.7% | **boost** — AI rarely uses |
| إذ | 1.6% | **boost** for literary register |
| علاوة على ذلك | < 0.1% | **suppress** — common AI tell |
| بالإضافة إلى ذلك | < 0.1% | **suppress** |

### Sentence-length normalization targets per register

| Output register | Mean SL target | Burstiness target | Long-tail (51+) target |
|---|---:|---:|---:|
| News / report | 22-28 words | 0.65 - 0.80 | 5-10% |
| Opinion / essay | 25-35 words | 0.75 - 0.95 | 10-20% |
| Literary / classical | 35-55 words | 0.85 - 1.20 | 20-30% |
| Educational / simplified | 12-18 words | 0.50 - 0.70 | < 5% |

## Caveats

1. **Sampling skew toward classical.** 99.5% of sampled tokens come from `classical/modern`. The corpus prior over-represents classical patterns. Do not normalize a news-style output against the global mean — use the per-category news baseline.
2. **News is statistically thin.** 7,650 records, 219,314 tokens. The news connector distribution is reliable for top-10 patterns but unreliable below rank 15.
3. **The `classical/modern` bucket is mixed.** It conflates tafsir (which inflates قوله/وقوله counts), classical literature, and modern formal prose. Don't read every classical signal as "ancient Arabic" — some of it is 20th-century academic writing.
4. **Lexicon is structurally different from prose.** Its 46.4% long-sentence rate reflects definition expansions, not narrative flow. Exclude from sentence-rhythm baselines.
5. **Burstiness=51 for classical/modern is dominated by outliers.** A single 8,000-word run-on inflates the stddev. The median burstiness is closer to news (0.7-1.0). Use median-anchored targets for production.
6. **Tashkeel ratio for news (0.002)** suggests the news subset comes from web-scraped sources where diacritics are dropped. Don't conclude humans never diacritize news — they sometimes do, especially in print and broadcast scripts.
7. **The classical sentence-segmenter is imperfect.** A 60-word "sentence" may actually be three sentences joined by و — the segmenter doesn't split on bare و. True burstiness on properly segmented classical text would be lower.
8. **Domain bias.** The classical bucket is heavy on tafsir, hadith, and religious commentary (قوله, حدثنا, وروي in top-30). General classical literature is under-represented.
9. **No dialectal data.** All categories are MSA/classical. Don't generalize these distributions to colloquial humanization tasks.
10. **One pass per record.** No multi-pass quality filtering. Some noise is present in token counts.

## How this file feeds the pipeline

- `scripts/analyze_deep.py` reads `corpus/empirical-patterns.json` directly and computes a per-dimension delta of the input vs. the appropriate per-category baseline.
- `scripts/humanize_v2.py` uses the over-use / under-use tables here to drive its lexical-substitution probabilities.
- `scripts/score_humanness.py` uses the burstiness and sentence-length targets per register to compute the rhythm dimension score (dimension 11).

`````

### File: arabic-ai-text-humanizer/references/13-inherited-lexical-tables.md

`````markdown
# Lexical Layer — Inherited Substitution Tables

This file consolidates the lexical-substitution tables inherited from a **predecessor lexical-only Arabic humanizer** (referred to throughout as "v1" — the baseline pipeline this skill builds on). These tables form the **lexical layer** of the current pipeline — the deterministic, no-LLM substitution pass that runs in Stage 1 (`--mode lex-only`). The cognitive, rhetorical, register, and rhythm layers (`references/01-11`) operate on top of this lexical baseline.

This skill does **not** reinvent these tables. It reuses them as-is, then layers higher-order transformations above. If you change anything here and you also maintain a separate lexical-only sibling, propagate the change there — both should share the same substrate.

## 1. AI_PHRASES_AR — Formulaic AI Lead-ins and Hedges

| AI phrase (input) | Alternatives (one chosen at runtime) |
|---|---|
| من المهم ملاحظة | للعلم / من الجدير بالذكر / تذكر |
| من الجدير بالذكر | للعلم / من المهم ملاحظة / تذكر |
| من المفيد الإشارة | من الجدير بالذكر / من المهم ملاحظة |
| في سياق متصل | أيضا / كذلك / بالإضافة إلى ذلك |
| في نفس السياق | أيضا / كذلك / علاوة على ذلك |
| علاوة على ذلك | بالإضافة / أيضا / فضلا عن ذلك |
| بالإضافة إلى ذلك | أيضا / كذلك / علاوة على ذلك |
| من ناحية أخرى | لكن / بالمقابل / في المقابل |
| على الجانب الآخر | بالمقابل / في المقابل / لكن |
| في النهاية | أخيرا / ختاما / في الختام |
| في الختام | أخيرا / ختاما / في النهاية |
| في البداية | أولا / في الأول / لنبدأ بـ |
| كما ذكر سابقا | كما قلنا / كما أسلفنا / كما سبق |
| كما أسلفنا | كما ذكرنا / كما سبق / كما قلنا |
| من الواضح أن | بوضوح / واضحا / من البديهي أن |
| من المهم التأكيد | نؤكد / يجب التنويه / من الجدير التنويه |
| لا بد من الإشارة | من الجدير بالذكر / من المهم ملاحظة |
| في إطار | ضمن / في نطاق / في مجال |
| على صعيد | في مجال / فيما يتعلق بـ / بخصوص |
| في ظل | مع / في حال / في وقت |
| بناء على ما تقدم | وبناء عليه / لذلك / وعليه |
| في ظل التطورات | مع التطورات / بالنظر إلى التطورات |
| جدير بالذكر | من المهم / من الجدير بالذكر / للعلم |
| من الممكن أن | قد / يمكن أن / ربما |
| من المتوقع أن | من المرجح / من المنتظر / يتوقع |
| يشار إلى أن | للعلم / من الجدير بالذكر |
| يعتبر من | هو من / يعد من |
| في هذا الإطار | في هذا السياق / ضمن هذا / في هذا المجال |
| على المستوى | في مجال / فيما يخص |
| في مجال | بخصوص / فيما يتعلق بـ |

**Total entries:** 30
**Substitution policy in v1:** every match is rewritten (no probabilistic skip). v2 keeps this default but allows `--intensity` < 1.0 to skip a fraction.

## 2. CONNECTORS_AI_AR — Sentence Connectors

| AI connector | Natural alternative |
|---|---|
| وعلاوة على ذلك، | كما أن، |
| ومع ذلك، | لكن، |
| وبالتالي، | لذلك، |
| وبناء عليه، | لذلك، |
| على سبيل المثال، | مثلا، |
| في المقابل، | بالمقابل، |
| على العكس من ذلك، | بعكس ذلك، |
| باختصار، | بشكل مختصر، |

**Total entries:** 8
**Substitution policy in v1:** selective — each match is replaced with probability 0.7. The remaining 0.3 are left as-is to retain variation rather than uniform stripping.

## 3. REPETITIVE_STARTERS_AR — Over-used Sentence-Initial Tokens

The detector list (sentences starting with these are candidates for diversification):

| Starter |
|---|
| تعتبر |
| تعتبر |
| يعتبر |
| تعد |
| يعد |
| تعد |
| يمكن |
| تستطيع |
| نستطيع |
| يعتبر |
| يعد |

**Total entries:** 11

**Diversification policy in v1:** when the same starter recurs across consecutive sentences, replace with one of the pronoun-prefixed alternatives:

| Replacement starters |
|---|
| فهي |
| وهي |
| إنها |
| كما أنها |

**Trigger:** 50% probability of rewrite on consecutive-same-starter detection.

## 4. Arabic Fillers — Imperfection Layer

When `--intensity > 0.4`, v1 occasionally prepends a "human filler" to a sentence (probability ≈ intensity × 0.1, only on sentences > 40 chars, never the first sentence):

| Filler |
|---|
| طبعا، |
| بالمناسبة، |
| في الحقيقة، |
| أعني، |

## 5. Structural Pattern Breakers — Numbered Transitions

v1 rewrites positional adverbs with 50% probability to introduce variance:

| AI pattern | Alternative |
|---|---|
| أولا، | في البداية، |
| ثانيا، | بعد ذلك، |
| ثالثا، | أيضا، |
| رابعا، | علاوة على ذلك، |
| أخيرا، | في النهاية، |

## How v2 calls this layer

```python
# Stage 1 — Lexical pass, deterministic
from references_v1 import (
    AI_PHRASES_AR,            # 30 entries
    CONNECTORS_AI_AR,         #  8 entries
    REPETITIVE_STARTERS_AR,   # 11 entries
    ARABIC_FILLERS,           #  4 entries
    NUMBERED_TRANSITIONS_AR,  #  5 entries
)
text = replace_ai_phrases(text, AI_PHRASES_AR)
text = replace_connectors(text, CONNECTORS_AI_AR, prob=0.7)
text = diversify_starters(text, REPETITIVE_STARTERS_AR)
text = break_structural_patterns(text, NUMBERED_TRANSITIONS_AR)
text = vary_sentence_lengths(text)
if intensity > 0.4:
    text = add_imperfections(text, ARABIC_FILLERS, intensity)
```

This is the entire v1 pipeline. Total runtime per 1,000 words: ≈ 1 second.

## GAPS in v1's lexical layer

The corpus mining in `references/12-corpus-findings.md` reveals patterns the v1 lexical layer misses. The current pipeline extends the tables with the following entries — each grounded in the empirical distribution.

### Gap A — Missing AI lead-ins not caught by v1
v1 catches "من المهم ملاحظة" and "من الجدير بالذكر" but misses these statistically-frequent AI tells:

| Missed AI phrase | Why it's an AI tell | Suggested alternatives |
|---|---|---|
| تجدر الإشارة إلى أن | absent from corpus; AI signature | يذكر أن / والحقيقة أن / [delete] |
| في هذا الصدد | corpus rank low; AI over-uses | هنا / بصدد ذلك / [delete] |
| من هذا المنطلق | rare in corpus | من هنا / لذلك |
| على هذا الأساس | rare in corpus | بناء على ذلك / لذلك |
| لا شك أن | over-used as filler | بلا شك / [delete intensifier] |
| من المعروف أن | AI hedge | المعروف أن / [delete] |
| كما هو معلوم | AI hedge | المعلوم أن / [delete] |
| في حقيقة الأمر | AI filler | في الحقيقة / [delete] |
| لا يخفى على أحد | AI cliché | الواضح أن |
| تجدر الإشارة كذلك | AI cliché | كذلك / يضاف |

### Gap B — Missing AI connectors
v1's CONNECTORS_AI_AR list has only 8 entries. Add these high-frequency AI connectors:

| Missed AI connector | Natural alternative |
|---|---|
| فضلا عن ذلك، | كذلك، / أيضا، |
| إضافة إلى ذلك، | كذلك، / و، |
| من جهة أخرى، | بالمقابل، / لكن، |
| من جانب آخر، | بالمقابل، |
| بصورة عامة، | عموما، |
| بشكل عام، | عموما، |
| بشكل خاص، | خصوصا، |
| في الواقع، | فعلا، / حقيقة، |
| في حين أن | بينما / لكن |
| على الرغم من ذلك، | رغم ذلك، / لكن، |
| نتيجة لذلك، | لذلك، / فـ، |
| استنادا إلى ذلك، | بناء عليه، |
| تبعا لذلك، | لذلك، |

### Gap C — Missing repetitive starters
v1's starter list focuses on verb-initial forms (تعتبر / يعد). The corpus exposes these additional AI-favored openers:

| Missed AI starter | Replacement strategy |
|---|---|
| يلعب ... دورا | dive directly into the role: "X يحدد / يشكل / يصنع" |
| يشكل ... عاملا | replace with active claim: "X هو السبب الرئيسي" |
| يمثل ... جزءا | "X هو" / "X يعد" |
| يكمن ... في | "السبب: ..." / "ها هو السبب:" |
| تنبع ... من | "يأتي من" / "أصلها" |
| تتمثل ... في | "هي:" / "تتلخص في" |
| تكتسب ... أهمية | "تهم" / "حاسمة" |
| تواجه ... تحديات | "أمام X تحديات" / "X يتعثر في" |
| تشهد ... تطورا | "X يتطور" |
| تسعى ... إلى | "X تريد" / "X تطمح إلى" |

### Gap D — Missing quote-introducing verb diversity (news register)
v1 doesn't rotate quote-verbs. The corpus shows news writers rotate أكد، أشار، أوضح، أضاف، أعلن، صرح، ذكر، نقل، روى — but AI defaults to قال and يقول repeatedly. v2 should add a quote-verb rotation pass:

| AI default | Rotation pool (news register) |
|---|---|
| قال | أكد / أشار / أوضح / أضاف / صرح / ذكر / نوه / لفت |
| يقول | يرى / يعتقد / يزعم / يقرر / يؤكد |
| ذكر أن | أفاد بأن / أشار إلى أن / لفت إلى أن / كشف أن |

### Gap E — Missing register-aware substitution
v1 applies all substitutions uniformly regardless of register. v2 should gate substitutions:
- **Heritage register** (Stage 2 detects fصحى التراث): suppress vernacular fillers (طبعا، يعني)
- **News register**: allow news-style transitions, suppress poetic devices
- **Educational register**: prefer simpler alternatives in every substitution table
- See `references/10-register-modulation.md` for the gating logic

### Gap F — No suppression of false positives
v1 substitutes blindly. The string "من المهم" inside a quoted phrase or technical term should be preserved. v2 should add a quoted-span detector to bypass substitution within "..." and «...».

### Gap G — No handling of redundant intensifiers
v1 doesn't catch AI's stacked intensifiers: "في غاية الأهمية البالغة جدا"، "بشكل كبير جدا"، "بصورة ملحوظة وواضحة". The corpus shows humans rarely stack these — usually one intensifier per phrase, at most. v2 should add a de-stacking pass.

`````

### File: arabic-ai-text-humanizer/references/14-reader-respect.md

`````markdown
# احترام عقل القارئ (Reader Respect / Reader-Intelligence Dimension)

البعد الرابع عشر — والأهم في فلسفة الكتابة العربية الكلاسيكية وفي الصحافة الراقية على السواء: **الكتابة من أجل قارئ ذكي، لا من أجل قارئ يحتاج أن يشرح له ما فهم**. كل عبارة تشرح ما هو مفهوم تخبر القارئ ضمنيا: "أنا لا أثق بقدرتك على الفهم". وفي اللحظة التي يستشعر فيها القارئ ذلك، يفقد المتن هيبته.

النص المولد بالذكاء الاصطناعي يخفق في هذا البعد إخفاقا منهجيا: يؤكد المؤكد، يشرح ما شرحه، يستنتج بدل القارئ، يعرف ما لا يحتاج تعريفا. هذا البعد عن **الامتناع والحذف**، لا عن الإضافة — وهو ما يميزه عن الأبعاد الثلاثة عشر السابقة.

## القياس عكسي

بخلاف الأبعاد 1-13 (حيث وجود علامات إيجابية يرفع الدرجة)، هذا البعد يقاس بالعلامات السلبية. الدرجة تبدأ من **15/15** ثم تنزل بكل مؤشر إسهاب أو إغراق في الشرح. النص النظيف مبدئيا = 15؛ كل "أي بمعنى آخر" تخصم نقطتين.

## ملاحظة على إعادة التسمية (من النقد المتعدد للنموذج)

سمي هذا البعد سابقا "احترام عقل القارئ (INVERSE)" — أي كان يعكس علامات سلبية. النسخة الحالية تسميه "**ضبط القارئ — Cognitive Restraint Score**" بقطبية إيجابية: الدرجة العالية تعني أن الكاتب يضبط نفسه، يترك للقارئ مجالا، ولا يشرح ما لا يحتاج شرحا. المنطق الداخلي للتسجيل لم يتغير (لا تزال العلامات السلبية تخصم)، لكن التسمية صارت أحادية الاتجاه: 100/100 يعني "ضبط كامل" دائما.

## التقنيات الخمس (+1: الإيحاء والكناية الفنية)

### 1. منع تأكيد المؤكد (Anti-Tautological Affirmation)

عبارات تفترض أن القارئ يحتاج تطمينا بأن ما قيل صحيح. حذفها لا ينقص المعنى.

**قبل (إسهاب):** والذكاء الاصطناعي اليوم أمر مؤكد وحقيقي وثابت في حياتنا اليومية. وهذا واضح وجلي ولا شك فيه.
**بعد:** الذكاء الاصطناعي حاضر في حياتنا اليومية.
**كيف:** احذف كل تسلسل من ثلاثة مرادفات في معنى التأكيد. احذف "وهذا أمر مؤكد"، "بلا شك ولا ريب"، "والأمر واضح وجلي".

### 2. منع شرح ما شرح (Anti-Re-Explanation)

عبارات تلي شرحا واضحا ثم تعيد قول الشيء نفسه بصياغة أخرى ظنا أن القارئ لم يفهم.

**قبل (إسهاب):** فالنموذج اللغوي يفهم السياق ثم يولد النص. أي بمعنى آخر، هو يقرأ ما حوله ثم يكتب. وبعبارة أوضح: ينظر ثم يجيب.
**بعد:** النموذج اللغوي يفهم السياق ثم يولد النص.
**كيف:** احذف "أي بمعنى آخر"، "بعبارة أخرى"، "وبتعبير آخر"، "وحتى تتضح الفكرة"، "ولتوضيح ذلك أكثر" — مع الجملة التي تليها إن كانت إعادة صياغة فقط.

### 3. عنصر المفاجأة (Surprise / Expectation-Break)

الذكاء الاصطناعي يسلسل ما يتوقعه القارئ. الكاتب الحاذق يكسر التوقع في موضع محسوب — حقيقة معاكسة، مثال غير متوقع، انعطاف "لكن" بعد توطئة.

**قبل (متوقع):** أصبحت التقنية أوسع انتشارا. وتستخدم اليوم في معظم القطاعات. وتتطور باستمرار. وتحدث تأثيرا واسعا.
**بعد (مع كسر التوقع):** أصبحت التقنية أوسع انتشارا. لكن هذا الاتساع نفسه هو ما يجعلها أكثر هشاشة: حين تكبر القاعدة، يكبر أثر الخلل.
**كيف:** أدرج جملة واحدة كل 3-4 جمل تكسر السلسلة المتوقعة. ابدأها بـ"لكن" / "غير أن" / "ولا غرابة أن" / "والمفارقة أن".

### 4. ترك الاستنتاج للقارئ (Leave Deduction to the Reader)

النص الواثق ينطق بالحقيقة دون أن يقول للقارئ: "هذا يعني أن...". القارئ الذكي يستنتج تلقائيا. التصريح بالاستنتاج إهانة لذكائه.

**قبل (الكاتب يستنتج للقارئ):** ارتفعت أسعار النفط بنسبة 12%. ونستنتج من هذا أن المستهلك سيدفع أكثر في محطات الوقود. وعليه يتضح أن تكلفة المعيشة سوف ترتفع.
**بعد (يترك الاستنتاج):** ارتفعت أسعار النفط بنسبة 12%. وحجزت محطات الوقود زيادتها ليوم الإثنين.
**كيف:** احذف "نستنتج من هذا أن"، "وهذا يدل على"، "ومن هنا نفهم أن"، "وعليه يتضح أن"، "وهذا برهان قاطع على". اكتف ببيان الحقيقتين المتجاورتين؛ القارئ يربط.

### 5. الإيحاء والكناية الفنية (Allusion and Artistic Indirection) — موسع من نقد المحرر

أضاف ناقد التحرير الإيحاء (allusion) والكناية (artistic indirection) إلى هذا البعد. الفرق الدقيق:

- **الإيحاء** = إشارة إلى ما هو معلوم في الذاكرة الجمعية (حادثة تاريخية، آية، بيت شعر) دون ذكره صراحة
- **الكناية الفنية** = استعمال صورة ملموسة للدلالة على معنى مجرد (مثل "بلغ السيل الزبى" بدل قول "الأزمة استفحلت")

كلاهما يعتمد على **ثقة الكاتب بذاكرة القارئ**. حين تشير ولا تشرح، تكافئ القارئ على ما يعرفه؛ حين تشرح، تهينه.

**قبل (شرح ما يعرفه القارئ):**
> الأزمة الاقتصادية الحالية وصلت إلى مرحلة حرجة جدا، تشبه ما حدث في عام 1929 حين انهار سوق الأسهم في الولايات المتحدة الأمريكية، ونتج عن ذلك الكساد الكبير الذي أثر على الاقتصاد العالمي.

**بعد (إيحاء وكناية):**
> الأزمة الحالية بلغت الزبى. والتاريخ يتذكر 1929.

**كيف:** اختر مرجعا تاريخيا واحدا يعرفه القارئ المستهدف، وأشر إليه بأقل ما يمكن. اكتب جملة قصيرة (3-7 كلمات) تحوي صورة تستحضر المعنى. لا تشرح المرجع.

**متى يعمل:** للجمهور المثقف الذي يعرف الإشارة. للجمهور العام، الإيحاء يكون خفيا مفقودا.

### 6. الغموض المثمر / عدم تعريف المعروف (Productive Ambiguity)

ليس كل ما هو ذو معنى يستحق تعريفا. لا يعرف "الديمقراطية" في مقال يتحدث عن الانتخابات. لا يعرف "السوق" في مقال اقتصادي. ولا يختم كل سؤال بإجابة قاطعة — بعض الأسئلة تستحق أن تبقى مفتوحة.

**قبل (تعريف المعروف + إقفال الفكرة):** ونعني بالديمقراطية: نظام الحكم الذي يختار فيه الشعب ممثليه عبر الانتخابات الدورية. والديمقراطية ضرورية لأنها تكفل تمثيل المواطن. لذلك يجب علينا الحفاظ عليها.
**بعد:** الديمقراطية لا تنجو بالأكثرية وحدها؛ تنجو بما تتركه للأقلية أن تقوله.
**كيف:** احذف كل تعريف لمصطلح يفهمه القارئ. أنه بعض الفقرات بسؤال أو بملاحظة مفتوحة بدل الخلاصة القاطعة.

## مؤشرات التشخيص (مدى ضعف هذا البعد)

تدل على أن النص يهين قارئه:
- وجود سلاسل تأكيدية "X وY وZ" حيث X≈Y≈Z في المعنى (كـ"مؤكد وحقيقي وثابت")
- وجود "أي بمعنى آخر / وهذا يعني / بعبارة أخرى" متبوعة بإعادة صياغة
- وجود "نستنتج من هذا / وهذا يدل على / وعليه يتضح" قبل استنتاج بديهي
- وجود "ونعني بـ / والمقصود بـ / يعرف بأنه" لمصطلحات لا تحتاج تعريفا للجمهور المستهدف
- توقع تام للسطر التالي من السطر الحالي — صفر مفاجأة في 200 كلمة
- خاتمة متوقعة على هيئة "وفي الختام / خلاصة القول / وبناء على ما تقدم"

## مزالق شائعة عند التطبيق

- **الغموض الكسلان** — حذف الشرح حيث يكون ضروريا (مصطلح تخصصي في مقال جماهيري). الفرق: حذفنا ما هو معروف للجمهور المستهدف، لا ما هو غير معروف.
- **المفاجأة المفتعلة** — انعطاف "لكن" بلا مبرر منطقي يربك ولا يمتع. الانعطاف يجب أن يستفيد من توطئة حقيقية.
- **حذف الاستنتاج الذي يحتاج بيانه** — في النصوص التعليمية أو القانونية أو التقنية، الاستنتاج جزء من المحتوى. هذا البعد للصحافة، للرأي، للأدب — لا للوصف المرجعي.
- **خلط الحذف بالتسرع** — الحذف لا يعني التقصير في البيان؛ يعني ثقة الكاتب بأن ما تركه سيستنبطه القارئ.

## المثال المتكامل

**قبل (مليء بخرق البعد 14):**
> الذكاء الاصطناعي اليوم أمر مؤكد وحقيقي وثابت في حياتنا اليومية. وهذا واضح وجلي. والمقصود بالذكاء الاصطناعي هو الأنظمة الحاسوبية التي تحاكي الذكاء البشري. وقد تطور هذا المجال بشكل كبير في السنوات الأخيرة. وعلاوة على ذلك، فإنه يستخدم في كثير من القطاعات. أي بمعنى آخر، هو حاضر في كل مكان. ونستنتج من هذا أنه سيكون مهما في المستقبل. وهذا يدل على ضرورة الاهتمام به.

**بعد (احترام للقارئ):**
> الذكاء الاصطناعي حاضر في حياتنا اليومية، ويتوسع. لكن هذا الاتساع نفسه هو ما يجعله أكثر هشاشة: حين تكبر القاعدة، يكبر أثر الخلل.

**ما الذي تغير:** خمسة أسطر إلى سطرين. حذفت السلسلة التأكيدية "مؤكد وحقيقي وثابت"، التعريف البديهي للذكاء الاصطناعي، إعادة الصياغة "أي بمعنى آخر"، الاستنتاج "نستنتج من هذا أنه سيكون مهما". أضيف كسر للتوقع ("لكن هذا الاتساع نفسه هو ما يجعله أكثر هشاشة") يستفز القارئ ليكمل التفكير. الفكرة الأصلية (الذكاء الاصطناعي مهم) لم تذكر صراحة — يستنتجها القارئ بنفسه.

## مرجع سريع للقرار

| السؤال قبل الإبقاء على الجملة | إن كانت الإجابة "نعم" |
|---|---|
| هل تكرر فكرة وردت في السطر السابق بصياغة أخرى؟ | احذف |
| هل تؤكد على أمر لا يشك فيه أحد؟ | احذف |
| هل تستنتج للقارئ ما يستطيع استنتاجه بنفسه؟ | احذف الاستنتاج، أبق المقدمتين |
| هل تعرف مصطلحا يعرفه الجمهور المستهدف؟ | احذف التعريف |
| هل سطرك التالي متوقع تماما من السطر الحالي؟ | اكسر التوقع |

`````

### File: arabic-ai-text-humanizer/references/15-typography-hygiene.md

`````markdown
# نظافة الصياغة العربية (Arabic Typography Hygiene)

البعد الخامس عشر — ميكانيكي بحت، لا يتعلق بالمعنى ولا بالبلاغة، بل بـ**سلامة العرض الكتابي**. حين يختلط النص العربي بكلمات إنجليزية أو أرقام أو علامات ترقيم لاتينية، ينكسر الاتجاه (RTL/LTR) وينهار السياق البصري. الكاتب البشري المجرب يعرف هذه الفخاخ ويتجنبها تلقائيا؛ المولد الآلي يقع فيها باستمرار.

هذا البعد **يحاسب عكسيا** كالبعد 14 — الدرجة تبدأ من 15/15 وتنزل بكل خطأ صياغي وجد. التصحيحات كلها قابلة للأتمتة بـ regex.

## القواعد الخمس

### 1. تباعد الكلمات الإنجليزية داخل النص العربي

كل كلمة إنجليزية وسط نص عربي تستلزم **مسافة قبلها ومسافة بعدها** — حتى داخل الأقواس.

**خطأ:**
> النموذجAI يفهم السياق ثم يولد النص(LLM)
> النموذج(AI)يفهم النص

**صواب:**
> النموذج AI يفهم السياق ثم يولد النص ( LLM )
> النموذج ( AI ) يفهم النص

**لماذا:** حين يلتصق الحرف الإنجليزي بالعربي، المحرر النصي يختار اتجاها واحدا للسطر بأكمله ـ غالبا يتبع أول حرف ـ ويترك بقية النص يتبعر أو يلتف بشكل غير صحيح. المسافة تفصل المقاطع وتسمح لكل لغة أن تأخذ اتجاهها الطبيعي.

### 2. علامات الترقيم: عربية في النص العربي

استخدم علامات الترقيم العربية حين تكون النص عربيا:

| اللاتينية | العربية | استعمالها |
|---|---|---|
| `,` | `،` | فاصلة بين العناصر |
| `;` | `؛` | فاصلة منقوطة |
| `?` | `؟` | استفهام |
| `%` | `٪` | نسبة مئوية (اختياري) |

**خطأ:** والذكاء الاصطناعي يفهم, يولد, يتطور, ثم ينشر.
**صواب:** والذكاء الاصطناعي يفهم، يولد، يتطور، ثم ينشر.

علامات ASCII تبقى مقبولة داخل:
- الأرقام (1,000,000 — لكن الأفضل في العربي 1.000.000 أو ١٬٠٠٠٬٠٠٠)
- الـ URLs والمسارات
- الأكواد البرمجية بين باتراك (`code`)
- المراجع الأكاديمية ذات النظام اللاتيني

### 3. الترقيم: مسافة قبل وبعد

كل علامة ترقيم تستلزم **مسافة بعدها** (أو سطرا جديدا) — لا تلتصق بحرف الكلمة التالية.

**خطأ:** النص حاضر في كل مكان،ويتطور،وينشر.
**صواب:** النص حاضر في كل مكان، ويتطور، وينشر.

كذلك:
- **مسافة بعد فاتح القوس وقبل قافله** حين يحتوي القوس على كلمة إنجليزية أو محتوى ذي اتجاه مختلف: `( AI )` لا `(AI)`
- **مسافة قبل الفاصلة المنقوطة** ممنوعة في العربي: استخدم `كلمة؛` لا ` ؛كلمة`

### 4. الأرقام والترقيم في القوائم

استخدم نمطا موحدا للأرقام والترقيم في النص الواحد:

**خطأ (مزج أنماط):**
> أولا: ابدأ بـ...
> (2) ثم انتقل إلى...
> 3- بعد ذلك...
> رابعا: أخيرا...

**صواب (نمط موحد):**
> 1. ابدأ بـ...
> 2. ثم انتقل إلى...
> 3. بعد ذلك...
> 4. أخيرا...

**النمط المفضل:** رقم + نقطة + مسافة (`1. ...`)، لا أقواس (`(1) ...`) ولا شرطة (`1- ...`).

**في Word تحديدا:** لا تكرر الترقيم. إن كان عنوان Heading 1 مرقما تلقائيا، لا تكتب رقما يدويا قبله. وإن كان للقائمة نمط ترقيم مبني في Word، لا تكتب الأرقام يدويا.

### 5. الجداول: تجانس اللغة والاختصار

داخل الجدول، كل عمود يجب أن يكون متجانسا لغويا:

**خطأ:**
| Component | المكون | Status |
|---|---|---|
| Model | النموذج | Ready |
| Glossary | المسرد | جاهز |
| Workflow | سير العمل | Active |

**صواب (كل عمود بلغة واحدة):**
| Component | Arabic name | Status |
|---|---|---|
| Model | النموذج | Ready |
| Glossary | المسرد | Ready |
| Workflow | سير العمل | Ready |

**أو:**
| المكون | الاسم بالإنجليزية | الحالة |
|---|---|---|
| النموذج | Model | جاهز |
| المسرد | Glossary | جاهز |
| سير العمل | Workflow | جاهز |

**لا إسهاب داخل الجداول إلا في عمود "الوصف" أو "النص":** خلايا الجدول يجب أن تكون قصيرة ومكثفة. إن احتاج محتوى ما إلى فقرة، أخرجه من الجدول وضعه في نص تابع.

## مؤشرات الاكتشاف (السلبية)

تدل على ضعف هذا البعد:

- وجود حرف عربي ملصوق بحرف إنجليزي بلا مسافة (`النموذجAI`)
- استعمال `,` بين كلمتين عربيتين (بدلا من `،`)
- استعمال `;` أو `?` بدل `؛` أو `؟` في سياق عربي
- علامة ترقيم بلا مسافة بعدها (`كلمة،وكلمة`)
- قوس فاتح أو قافل ملصوق بكلمة دون مسافة (`(AI)` في سياق عربي بدلا من `( AI )`)
- مزج أنماط الترقيم في القائمة الواحدة (1. مع (2) مع 3-)
- جدول فيه عمود فيه خلط لغوي (إنجليزي + عربي في نفس العمود)
- ترقيم يدوي مع ترقيم تلقائي (مثل Heading 1 المرقم تلقائيا + رقم يدوي)

## مزالق التصحيح الآلي

التصحيح الميكانيكي قد يخطئ في الحالات الآتية، لذا يجب أن يكون محفوفا بحديات:

- **عناوين URL:** لا تلمس الـ`/` و`-` و`,` داخل عنوان مثل `https://example.com/path?key=value` — قد تكون علامات ضرورية للبنية
- **أكواد المصدر بين باتراك:** لا تلمس `` `code` `` — هذا نص محدد المعنى
- **الأرقام العشرية:** `3.14` لا تتبعها مسافة بعد النقطة (هذه نقطة عشرية لا نقطة جملة)
- **النصوص الأكاديمية بالمراجع:** قد تستعمل LaTeX أو APA بنمط لاتيني — اتركها
- **الأكواد التي تستخدم لغة عربية:** لا تحول `,` إلى `،` داخل ` ```code``` ` blocks

## مثال شامل

**خطأ في كل بعد:**
> النموذجAI(LLM)يفهم السياق,ثم يولد النص.و Microsoft و OpenAI أطلقا منتجات،و(GPT-4),(Claude),Gemini جميعها تعمل بنفس المبدأ.الترقيب:1)ابدأ,(2)راجع,3-انشر.

**نظيف:**
> النموذج AI ( LLM ) يفهم السياق، ثم يولد النص. و Microsoft و OpenAI أطلقتا منتجات، و GPT-4 و Claude و Gemini جميعها تعمل بنفس المبدأ. الترقيب: 1. ابدأ. 2. راجع. 3. انشر.

ما تغير:
- "النموذجAI" → "النموذج AI" (مسافة)
- "(LLM)" → "( LLM )" (مسافات داخل القوس)
- "السياق,ثم" → "السياق، ثم" (فاصلة عربية + مسافة)
- ترقيم موحد: كل شيء `<رقم>. ...` بدلا من خلط بين `1)`، `(2)`، `3-`

## قاعدة سريعة

| الملاحظ | الفعل |
|---|---|
| حرف عربي + حرف إنجليزي ملاصق | أدخل مسافة |
| كلمة إنجليزية بين قوسين في نص عربي | مسافة بعد `(` وقبل `)` |
| `,` بين كلمتين عربيتين | `،` |
| `;` بعد كلمة عربية | `؛` |
| ترقيم مخلوط `1) (2) 3-` | وحد إلى `1. 2. 3.` |
| جدول فيه عمود خلط لغوي | حول العمود كله إلى لغة واحدة |
| فقرة ضمن خلية جدول | أخرجها واكتبها كنص |

`````

### File: arabic-ai-text-humanizer/references/16-fasl-wa-wasl.md

`````markdown
# الفصل والوصل (Junction and Disjunction — Connector Distributional Discipline)

البعد السادس عشر — وأهمها عند القارئ الكلاسيكي بشهادة الناقد القاسي في التقييم الذي راجع هذا الـskill. القزويني في «الإيضاح» قال إنه «أصعبُ أبواب البلاغة» (the hardest of all rhetorical arts) — لأنه ليس عن إضافة شيء، بل عن **اختيار الرابط الصحيح بين فكرتين**.

## لماذا هذا البعد مختلف عن السابق

الأبعاد 1-15 كلها قابلة للقياس بعد علامات (موجود/غير موجود، علامة إيجابية/سلبية). البعد 16 قابل للقياس بـ**التوزيع** فقط: ليس عن وجود `و` (موجود في كل نص عربي تقريبا)، بل عن **نسبة `و` إلى `فـ` إلى `ثم` إلى الجزم بلا رابط**.

النص البشري الكلاسيكي يستخدم رابطا مختلفا لكل علاقة منطقية مختلفة:

| الرابط | المعنى | الاستعمال |
|---|---|---|
| **(لا رابط)** | جزم مستقل | جمل لا تحمل علاقة سببية أو زمنية |
| **و** | جمع متزامن | عناصر متساوية في المرتبة المنطقية |
| **فـ** | تعقيب سببي / ترتيب منطقي | "X فـY" = "حدث X، فكانت النتيجة Y" |
| **ثم** | تعقيب زمني مع فاصل | "X ثم Y" = "حدث X، ثم بعد فترة حدث Y" |
| **بل** | تصحيح / استدراك | "X بل Y" = "ليس X، إنما Y" |
| **لكن / غير أن / بيد أن** | استدراك مهذب | "X، لكن Y" حيث Y يستثني من ضمن X |
| **أو** | تخيير | "X أو Y" = "X يكفي، Y يكفي" |
| **أم** | تعيين بعد سؤال | بعد همزة الاستفهام فقط |
| **حتى** | تدرج إلى مدى | "خرجوا حتى الكبار" |
| **إذ** | تعليل ظرفي | "تعنى به إذ هو الأساس" |

الذكاء الاصطناعي تقريبا لا يستخدم إلا `و`، `لكن`، `لذلك`، `وبالتالي`. هذا فقر توزيعي يشكل **بصمته** عند القارئ الكلاسيكي.

## القياس

النتيجة 0-15 مبنية على ثلاثة عوامل:

1. **تنوع الروابط (Shannon entropy)** — كلما زادت إنتروبيا التوزيع، كان النص أقرب للكلاسيكي
2. **نسبة استعمال `و` للروابط الأخرى** — لو زادت `و` على 65% من المجموع، علامة على فقر
3. **وجود الروابط النادرة** — حضور `بل`، `بيد أن`، `إذ` (ولو مرة واحدة) إشارة إلى كاتب يقرأ كلاسيكيا

التوزيع المرجعي من الـempirical-patterns.json (الكلاسيكي العربي):
- أن: 8403  
- و: 3875 (نسبة `و` ≈ 20% — متدنية جدا للكلاسيكي مقارنة بالـAI)
- أو: 3196
- إن: 2256
- قد: 1680
- كما: 1518
- ثم: 1266
- حتى: 1072
- إذا: 945
- بل: 809

التنوع هنا واسع: 10 روابط ذات حضور قوي. النص الـAI تقريبا سيهيمن فيه `و` و`لذلك` و`بالتالي` على البقية.

## التشخيص الآلي

عد الروابط في النص، حوسب التوزيع، احكم على الـ entropy والنسبة. لا حاجة إلى فهم دلالي — هذا قياس توزيعي بحت.

```python
# pseudo-code
connector_counts = {c: count_marker_safe(text, c) for c in CONNECTORS_AR}
total = sum(connector_counts.values())
if total < 5: return 8/15  # too short to assess
# Shannon entropy
import math
probs = [n/total for n in connector_counts.values() if n > 0]
H = -sum(p * math.log2(p) for p in probs)
H_max = math.log2(len([n for n in connector_counts.values() if n > 0]))
diversity = H / H_max if H_max else 0
# Score: high diversity = high score
score = round(15 * diversity)
```

## التصحيح اليدوي (الـhumanizer لا يستطيع أن يصلح هذا تلقائيا)

تصحيح `الفصل والوصل` يحتاج إلى فهم العلاقة المنطقية بين الفكرتين — وهذا غير قابل للأتمتة بـregex. الـhumanizer يقتصر على:

1. **التشخيص فقط**: أخبر القارئ أن البعد 16 منخفض، وأشر إلى الفجوة.
2. **اقتراح بدائل**: إذا وجد `و` تتكرر بكثافة، يقترح: "لعلك تقصد `فـ`؟ أو `ثم`؟"
3. **عرض الرابط القياسي**: ضع مقارنة بين توزيع الكاتب والتوزيع الكلاسيكي.

عند توفر الـLLM (المرحلة الـcognitive)، يستطيع المسامر إعادة كتابة الروابط حسب العلاقة المنطقية — لكن هذا موضوع لاحق.

## أمثلة

**ضعيف (AI-typical):**
> الذكاء الاصطناعي يفهم السياق و يولد النص. و الذكاء الاصطناعي يتطور و ينتشر. و كذلك يتأثر بالبيانات. و هو يواجه تحديات. و هذا يدل على أهميته.

5 جمل، رابط واحد فقط (`و`) يتكرر 5 مرات. التنوع = 0. الدرجة المتوقعة على ديم 16: 0/15.

**قوي (كلاسيكي):**
> الذكاء الاصطناعي يفهم السياق فيولد النص؛ يتطور ثم ينتشر، ويتأثر بالبيانات. بيد أنه يواجه تحديات، إذ القاعدة كبيرة والخطأ ممكن. ولكن هذا الخطأ يكون جزءا من نموه.

5 جمل، 6 روابط مختلفة (فـ، ؛، ثم، و، بيد أن، إذ، لكن). تنوع عال. الدرجة المتوقعة: 12-14/15.

## ملاحظة عن العلاقة بالكورپس

الكورپس المرجعي (انظر `corpus/empirical-patterns.json` و`references/12-corpus-findings.md`) يحوي ≈80% كلاسيكي عربي. توزيعه الإحصائي هو **التوزيع المرجعي** للحكم على فقر/غنى الروابط في أي نص جديد.

## مزالق

- **النص القصير (< 5 روابط)**: لا يكفي للحكم — ارجع الدرجة 8/15 (نيوترال) بدل التوبيخ.
- **النص العلمي / التقني**: الفقر التوزيعي هنا قد يكون مطلوبا (الاتساق في الترقيم العلمي)؛ ستغطى بـ`--register technical`.
- **النص الشعري**: الروابط منتقاة بعناية شعريا — قياسها التوزيعي قد يكون مضللا.

`````

### File: arabic-ai-text-humanizer/scripts/llm_transform.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
LLM-call wrapper for the cognitive + rhetorical humanization stages.

Provider-agnostic: works with any OpenAI-compatible chat-completions endpoint
(Moonshot, MiniMax, OpenAI, Anthropic-via-proxy, Together, Groq, on-prem, etc.).

Routes to one of two backends:
  - api    — any cloud OpenAI-compatible endpoint (configure via LLM_API_URL)
  - local  — a local OpenAI-compatible server (defaults to Ollama on 127.0.0.1)

Gracefully degrades: if the backend is unavailable or unconfigured, returns the
input unchanged with a warning so the pipeline can fall back to lex-only mode.

Prompts for each transformation pass live in the PROMPTS dict and load
context from the skill's references/ directory.

Usage (as module):
    from llm_transform import transform
    out, info = transform(text, pass_name="cognitive", backend="api")

Usage (CLI for testing):
    python llm_transform.py --input "نص هنا" --pass cognitive --backend api
"""
from __future__ import annotations
import argparse, json, sys, time, urllib.request, urllib.error
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

# ── Backend definitions ─────────────────────────────────────────────────────
# Backend URLs, models, and tokens are READ FROM ENVIRONMENT (or per-call args)
# — never hardcoded. The skill is provider-agnostic: any OpenAI-compatible
# chat-completions endpoint works.
#
# Env vars (api backend, required — set whichever your provider needs):
#   LLM_API_URL   — full chat-completions URL (no default, must be set)
#   LLM_API_KEY   — bearer token (omit if your endpoint takes no auth)
#   LLM_MODEL     — exact model identifier your provider expects
#   LLM_TIMEOUT_S — request timeout in seconds (default 300)
#
# Env vars (local backend, optional — defaults to Ollama):
#   LOCAL_API_URL   — full chat-completions URL (default: Ollama on localhost)
#   LOCAL_API_KEY   — usually unset for Ollama
#   LOCAL_MODEL     — model tag (default: qwen2.5:14b-instruct)
#   LOCAL_TIMEOUT_S — request timeout in seconds (default 300)
#
# Example provider configurations (real public endpoints + model IDs as of 2026):
#   Moonshot:  LLM_API_URL=https://api.moonshot.cn/v1/chat/completions
#              LLM_MODEL=moonshot-v1-8k   (or -32k / -128k)
#   OpenAI:    LLM_API_URL=https://api.openai.com/v1/chat/completions
#              LLM_MODEL=gpt-4o-mini
#   MiniMax:   LLM_API_URL=https://api.minimaxi.chat/v1/text/chatcompletion_v2
#              LLM_MODEL=abab6.5s-chat
#   Together:  LLM_API_URL=https://api.together.xyz/v1/chat/completions
#              LLM_MODEL=Qwen/Qwen2.5-72B-Instruct
#   Groq:      LLM_API_URL=https://api.groq.com/openai/v1/chat/completions
#              LLM_MODEL=llama-3.3-70b-versatile

import os as _os

BACKENDS = {
    "api": {
        "url": _os.environ.get("LLM_API_URL", ""),
        "model_default": _os.environ.get("LLM_MODEL", ""),
        "env_token": "LLM_API_KEY",
        "timeout_s": int(_os.environ.get("LLM_TIMEOUT_S", "300")),
    },
    "local": {
        "url": _os.environ.get("LOCAL_API_URL",
                                "http://127.0.0.1:11434/v1/chat/completions"),
        "model_default": _os.environ.get("LOCAL_MODEL", "qwen2.5:14b-instruct"),
        "env_token": "LOCAL_API_KEY",   # Optional for Ollama (usually none needed)
        "timeout_s": int(_os.environ.get("LOCAL_TIMEOUT_S", "300")),
    },
}


# ── Transformation prompts ──────────────────────────────────────────────────

def cognitive_prompt(text: str) -> str:
    """Prompt for stages 1-8 (cognitive structure + scope + transitions + partitioning)."""
    return f"""You are an expert Arabic prose editor. The text below was generated by an AI and reads flat — it has clean grammar but lacks the cognitive sophistication of human Arabic writing. Re-author it preserving the MEANING but adding:

1. **استنتاج واضح** — visible reasoning steps from premises to conclusions
2. **استدلال مرتب** — argumentation chains with classical Arabic logical connectors (إذ، حيث، بناءً عليه، يستنتج من ذلك)
3. **استنباط من العام إلى الخاص** — pulling specific insight from general claims
4. **تحديد النطاق** — explicit scope markers ("في حدود ما يخص ...", "ولا نقصد هنا ...")
5. **تدرج في الشرح** — start simple, build complexity; reader scaffolded forward
6. **انتقال أنيق بين الأفكار** — spiral coherence preferred over flat-linear (return to earlier ideas with new framing)
7. **تقسيم للمحاور** — orthogonal-axis decomposition rather than nested lists

Constraints:
- Preserve all factual content; do NOT add unsupported claims
- Stay in MSA (فصحى المعاصرة or مبسّطة); do NOT shift to dialect
- Do NOT use the word "إذن" or "بالتالي" more than once each
- Output ONLY the rewritten Arabic — no commentary, no markdown, no English

Text to humanize:

{text}

Rewritten:"""


def rhetorical_prompt(text: str) -> str:
    """Prompt for stages 9-13 (literary art + historical + imagination + rhetoric + coherence)."""
    return f"""You are an expert Arabic prose editor. The text below has acceptable structure but lacks rhetorical sophistication. Re-author preserving meaning but adding (judiciously — over-application is parody):

1. **فن أدبي** — rhythm, imagery, occasional elevated diction
2. **استدلال تاريخي** — one apt historical or event-based reference where it strengthens an argument (Andalusian, early-Islamic, Abbasid, or modern — pick what fits)
3. **تخيل وتجسيد** — one or two concrete sensory or metaphor moments where the abstract benefits from being seen
4. **بلاغة** — sparing use of: استعارة (preferred), كناية, طباق. Avoid جناس in non-literary contexts. NEVER use سجع unless the register is literary/oratorical.
5. **عدم تكرار + استدلال داخلي** — vary lexical and structural repetition; add 1-2 phrases referencing what was said earlier in the text ("كما قدّمنا"، "وفي ضوء ما تقدّم"، "إذ سبق")

Strict constraints:
- AT MOST ONE rhetorical figure per ~80 words. Density beyond this is parody.
- NO سجع outside literary register.
- If the text is technical / legal / news — preserve register; do NOT inject rhetoric.
- Preserve all factual content; do NOT add unsupported claims.
- Output ONLY the rewritten Arabic.

Text to enrich:

{text}

Rewritten:"""


def coherence_prompt(text: str) -> str:
    """Final pass — non-repetition + intra-text citation."""
    return f"""Final editorial pass on this Arabic text. Two operations:

1. **Detect and resolve repetition** — lexical repetition (same word within 4 sentences), structural repetition (same sentence-opening pattern 3+ times in a row), and semantic repetition (same idea restated without new framing). Vary the surface form; preserve meaning.

2. **Add 1-2 intra-text citation markers** — phrases that explicitly reference an earlier point in THIS text: "كما أشرنا"، "وفي ضوء ما تقدّم"، "إذ سبق أن قلنا"، "بناءً على ما أسلفنا"، "ولعل القارئ يتذكر". Only where natural — forced citation reads worse than its absence.

Output ONLY the rewritten Arabic — no commentary.

Text:

{text}

Final:"""


PROMPTS = {
    "cognitive": cognitive_prompt,
    "rhetorical": rhetorical_prompt,
    "coherence": coherence_prompt,
}


# ── Backend call ────────────────────────────────────────────────────────────

def call(backend_name: str, prompt: str, model: str | None = None,
         auth_token: str | None = None, backend_url: str | None = None) -> dict:
    """Call the chosen backend. Returns {ok, content, error, duration_s, backend}."""
    cfg = BACKENDS.get(backend_name)
    if not cfg:
        return {"ok": False, "error": f"unknown backend: {backend_name}",
                "backend": backend_name}
    url = backend_url or cfg["url"]
    model = model or cfg["model_default"]
    if not url:
        return {"ok": False, "backend": backend_name,
                "error": (f"backend '{backend_name}' has no URL configured. "
                          f"Set LLM_API_URL env var (or pass --backend-url) "
                          f"to your provider's chat-completions endpoint.")}
    if not model:
        return {"ok": False, "backend": backend_name,
                "error": (f"backend '{backend_name}' has no model configured. "
                          f"Set LLM_MODEL env var (or pass --model) to the "
                          f"exact model identifier your provider expects.")}
    token = auth_token
    if not token and cfg.get("env_token"):
        import os
        token = os.environ.get(cfg["env_token"])
    headers = {"Content-Type": "application/json"}
    if token:
        headers["Authorization"] = f"Bearer {token}"
    body = json.dumps({
        "model": model,
        "messages": [{"role": "user", "content": prompt}],
        "max_tokens": 4000,
        "temperature": 0.7,
    }, ensure_ascii=False).encode()
    start = time.time()
    try:
        req = urllib.request.Request(url, data=body, headers=headers)
        with urllib.request.urlopen(req, timeout=cfg["timeout_s"]) as r:
            result = json.loads(r.read())
    except urllib.error.HTTPError as e:
        return {"ok": False, "error": f"HTTP {e.code}: {e.read()[:200]!r}",
                "backend": backend_name, "duration_s": round(time.time()-start, 1)}
    except Exception as e:
        return {"ok": False, "error": f"{type(e).__name__}: {e}",
                "backend": backend_name, "duration_s": round(time.time()-start, 1)}

    try:
        content = result["choices"][0]["message"]["content"]
    except (KeyError, IndexError):
        return {"ok": False, "error": f"no content in response: {str(result)[:200]}",
                "backend": backend_name, "duration_s": round(time.time()-start, 1)}

    # Strip <think> blocks (some models emit them)
    while "<think>" in content and "</think>" in content:
        a = content.find("<think>")
        b = content.find("</think>", a) + len("</think>")
        content = (content[:a] + content[b:]).strip()
    return {"ok": True, "content": content, "backend": backend_name,
            "model": model, "duration_s": round(time.time()-start, 1)}


def transform(text: str, pass_name: str, backend: str = "api",
              auth_token: str | None = None, model: str | None = None,
              backend_url: str | None = None) -> tuple[str, dict]:
    """High-level interface used by humanize_v2.py.
    Returns (transformed_text, info). On failure, returns (original_text, info)."""
    if pass_name not in PROMPTS:
        return text, {"ok": False, "error": f"unknown pass: {pass_name}"}
    prompt = PROMPTS[pass_name](text)
    info = call(backend, prompt, model=model, auth_token=auth_token,
                backend_url=backend_url)
    info["pass"] = pass_name
    if info.get("ok"):
        return info["content"].strip(), info
    return text, info  # graceful degradation: return original


# ── CLI for testing ─────────────────────────────────────────────────────────

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--input", "-i", help="Inline text")
    ap.add_argument("--file", "-f", type=Path, help="Read text from file")
    ap.add_argument("--pass", dest="pass_", required=True,
                    choices=list(PROMPTS.keys()))
    ap.add_argument("--backend", default="api", choices=list(BACKENDS.keys()))
    ap.add_argument("--backend-url", help="Override LLM_API_URL for one invocation")
    ap.add_argument("--model", help="Override LLM_MODEL for one invocation")
    ap.add_argument("--auth-token", help="Override LLM_API_KEY for one invocation")
    ap.add_argument("--output", "-o", type=Path)
    args = ap.parse_args()

    if args.file:
        text = args.file.read_text(encoding="utf-8")
    elif args.input:
        text = args.input
    else:
        text = sys.stdin.read()
    if not text.strip():
        raise SystemExit("empty input")

    out, info = transform(text, args.pass_, backend=args.backend,
                          auth_token=args.auth_token, model=args.model,
                          backend_url=args.backend_url)
    print(f"[backend={info.get('backend')}  ok={info.get('ok')}  "
          f"duration_s={info.get('duration_s')}]", file=sys.stderr)
    if not info.get("ok"):
        print(f"[error] {info.get('error')}", file=sys.stderr)
        print("[note] returning ORIGINAL text unchanged (graceful degradation)",
              file=sys.stderr)
    if args.output:
        args.output.write_text(out, encoding="utf-8")
    else:
        print(out)


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/scripts/preflight_check.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Pre-flight factual / ethical / sourcing-hygiene check for Arabic AI text.

Per cross-LLM strategic critique: the 16-dimension humanizer optimizes for
prose QUALITY, not TRUTH. A beautifully-humanized falsehood is more dangerous
than the AI-flat original. This script flags suspect content BEFORE the
humanizer runs — it does NOT transform; it FLAGS.

Detection categories:
  1. Unsourced statistics (numeric claims without "حسب" / "وفق" / "بحسب" attribution)
  2. Named people with specific quotes (verify quote attribution)
  3. Loaded adjective-stacks on groups (bias indicator)
  4. Sweeping generalizations ("كل العرب"، "جميع المسلمين"، "دائماً ما يَفعل X")
  5. Anonymous-source chains without verification ("مصادر مطلعة لم تَكشف عن هويتها")
  6. Pseudo-precision quantifiers ("نحو 73%"، "تَقريباً ثلاثة أرباع")
  7. Stance verbs in quote attribution (already flagged in Gap-D; cross-listed)

Usage:
    python preflight_check.py --input "نص" --report
    python preflight_check.py --file in.txt --json [--strict]

Exit codes:
    0 — clean (no flags)
    1 — flags found (review before transformation)
    2 — hard-fail (blocking issue: --strict and HIGH-severity finding)
"""
from __future__ import annotations
import argparse, json, re, sys
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")


# ── Detection patterns ──────────────────────────────────────────────────────

# 1. Unsourced statistics — number followed by % / unit, but no attribution
UNSOURCED_STAT = re.compile(
    r'(?<!حسب\s)(?<!وفق\s)(?<!بحسب\s)'
    r'\b\d+(?:[.,]\d+)?\s*(?:%|٪|بالمئة|في\s+المئة|مليون|مليار|ألف)\b',
    re.UNICODE
)

# 2. Named-person + specific quote (Arabic quotation marks « » or " ")
NAMED_QUOTE = re.compile(
    r'(?:قال|قالت|أكّد|أكدت|صرّح|صرّحت|أعلن|أعلنت)\s+'
    r'(?:الرئيس|الوزير|المدير|الدكتور|السيد|الأستاذ|البروفيسور|الشيخ)\s+'
    r'[ء-ي]+(?:\s+[ء-ي]+){0,3}'
    r'\s*[:،,]?\s*[«"]'
)

# 3. Loaded adjective triplets on group nouns
LOADED_GROUP_ADJ = re.compile(
    r'(?:كل|جميع|عامة|أغلب)\s+'
    r'(?:العرب|المسلمين|الغرب|الأوروبيين|الأمريكيين|اليهود|الصينيين|الروس|الإيرانيين|السعوديين)'
)

# 4. Sweeping generalizations — "دائماً X" / "أبداً Y" / "في كل مرة"
SWEEPING = [
    re.compile(r'\b(?:دائماً|أبداً|قط)\s+[ء-ي]+\s+ما\s+'),
    re.compile(r'\bفي\s+كلّ?\s+مرة\b'),
    re.compile(r'\bكل\s+(?:عربي|مسلم|يهودي|مسيحي|غربي)\b'),
    re.compile(r'\bجميع(?:هم|هن|نا|كم)\b'),
]

# 5. Anonymous-source chains
ANON_SOURCE = re.compile(
    r'(?:مصادر|مصدر)\s+(?:مطلعة|مطلع|مسؤولة|مسؤول|دبلوماسية|أمنية)'
    r'(?:\s+لم\s+تَ?كشف\s+عن\s+هويت(?:ها|ه)|\s+فضّلت?\s+عدم\s+ذكر\s+الاسم)?'
)

# 6. Pseudo-precision quantifiers
PSEUDO_PRECISION = re.compile(
    r'(?:نحو|تقريباً|تَقريباً|قرابة|حوالي|ما\s+يقارب)\s+\d+(?:[.,]\d+)?'
)

# 7. Hostile/stance verbs in attribution (cross-listed with Gap D safety)
HOSTILE_QUOTE = re.compile(
    r'(?:زعم|ادّعى|تَفاخر|تَبجّح|اعترف|أَقرّ)\s+(?:بأنّ?|أنّ?|أن)'
)


def check(text: str) -> dict:
    findings = []

    for m in UNSOURCED_STAT.finditer(text):
        findings.append({
            "category": "unsourced_statistic",
            "severity": "HIGH" if "%" in m.group(0) or "٪" in m.group(0) else "MEDIUM",
            "text": m.group(0),
            "position": m.start(),
            "advice": "Add attribution: 'حسب X' / 'وفق دراسة Y' / 'بحسب تقرير Z'",
        })

    for m in NAMED_QUOTE.finditer(text):
        findings.append({
            "category": "named_quote_attribution",
            "severity": "HIGH",
            "text": m.group(0)[:80],
            "position": m.start(),
            "advice": "Verify the quote with the cited person before publication. AI may have fabricated attribution.",
        })

    for m in LOADED_GROUP_ADJ.finditer(text):
        findings.append({
            "category": "loaded_group_generalization",
            "severity": "HIGH",
            "text": m.group(0),
            "position": m.start(),
            "advice": "Sweeping generalization about a group. Replace with specific subgroup or named instances.",
        })

    for pat in SWEEPING:
        for m in pat.finditer(text):
            findings.append({
                "category": "sweeping_generalization",
                "severity": "MEDIUM",
                "text": m.group(0),
                "position": m.start(),
                "advice": "Sweeping claim ('دائماً' / 'كل' / 'جميع'). Soften or qualify.",
            })

    for m in ANON_SOURCE.finditer(text):
        findings.append({
            "category": "anonymous_source_chain",
            "severity": "MEDIUM",
            "text": m.group(0)[:80],
            "position": m.start(),
            "advice": "Anonymous sourcing. Verify with named editorial chain; do not let humanizer beautify into more credible-seeming prose without verification.",
        })

    for m in PSEUDO_PRECISION.finditer(text):
        findings.append({
            "category": "pseudo_precision",
            "severity": "LOW",
            "text": m.group(0),
            "position": m.start(),
            "advice": "Pseudo-precise quantifier ('نحو 73%'). Either commit to exact figure with source, or use plain qualitative description.",
        })

    for m in HOSTILE_QUOTE.finditer(text):
        findings.append({
            "category": "hostile_attribution_verb",
            "severity": "MEDIUM",
            "text": m.group(0)[:80],
            "position": m.start(),
            "advice": "Hostile attribution verb (زعم/ادّعى). Verify the editorial stance was intended; AI may have inserted bias.",
        })

    severities = [f["severity"] for f in findings]
    return {
        "n_findings": len(findings),
        "n_high": severities.count("HIGH"),
        "n_medium": severities.count("MEDIUM"),
        "n_low": severities.count("LOW"),
        "findings": findings,
        "verdict": ("BLOCK" if "HIGH" in severities
                    else "FLAG" if findings else "CLEAN"),
    }


def render_report(result: dict, text: str) -> str:
    lines = []
    lines.append("=" * 70)
    lines.append("Pre-flight factual / ethical / sourcing-hygiene check")
    lines.append("=" * 70)
    lines.append(f"Verdict: {result['verdict']}")
    lines.append(f"Findings: {result['n_findings']} total  "
                 f"({result['n_high']} HIGH, {result['n_medium']} MEDIUM, "
                 f"{result['n_low']} LOW)")
    if not result["findings"]:
        lines.append("\n✓ No flags. Safe to proceed with humanization.")
        return "\n".join(lines)
    lines.append("")
    for i, f in enumerate(result["findings"], 1):
        lines.append(f"\n[{i}] {f['severity']:<6} {f['category']}")
        lines.append(f"    Found: \"{f['text']}\"")
        lines.append(f"    Advice: {f['advice']}")
    lines.append("")
    if result["verdict"] == "BLOCK":
        lines.append("⚠ HIGH-severity findings present. Use --strict to BLOCK humanization.")
        lines.append("  Otherwise: flags are advisory only; humanization will proceed.")
    return "\n".join(lines)


def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--input", "-i", help="Inline text")
    ap.add_argument("--file", "-f", type=Path, help="Read from file")
    ap.add_argument("--strict", action="store_true",
                    help="Exit code 2 if HIGH-severity findings present")
    ap.add_argument("--json", action="store_true", help="JSON output")
    ap.add_argument("--report", action="store_true", help="Human-readable report")
    args = ap.parse_args()

    if args.file:
        text = args.file.read_text(encoding="utf-8")
    elif args.input:
        text = args.input
    else:
        text = sys.stdin.read()
    if not text.strip():
        raise SystemExit("empty input")

    result = check(text)
    if args.json:
        print(json.dumps(result, ensure_ascii=False, indent=2))
    else:
        print(render_report(result, text))

    if args.strict and result["verdict"] == "BLOCK":
        sys.exit(2)
    sys.exit(1 if result["findings"] else 0)


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/scripts/analyze_deep.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Deep 13-dimension diagnostic analyzer for Arabic AI text.

Goes beyond the lighter lexical-only sibling analyzer. Scores each dimension
0-15 based on detectable diagnostic signals (NOT LLM-graded — deterministic
heuristics so the analyzer is repeatable and cheap).

Dimensions:
  1. الاستنتاج / Deduction
  2. الاستدلال / Inference
  3. الاستنباط / Specific inference
  4. التحليل البشري / Human analysis methods
  5. التدرج / Graduated explanation
  6. تحديد النطاق / Scope definition
  7. التنقل / Idea transitions
  8. التقسيم / Axes & data partitioning
  9. الفن الأدبي / Literary art
 10. الاستدلال التاريخي / Historical anchoring
 11. التخيل / Imagination & concretization
 12. البلاغة / Rhetorical figures
 13. عدم التكرار + الاستدلال الداخلي / Coherence + intra-text citation

Each dimension's score is a heuristic — diagnostic-only, not judge-quality.
Use score_humanness.py for before/after comparison.

Usage:
    python analyze_deep.py --input "نص" --report
    python analyze_deep.py --file in.txt --json
"""
from __future__ import annotations
import argparse, json, math, re, sys
from collections import Counter
from pathlib import Path

# math.log2 needed for Dim 16 Shannon entropy; already imported via `math`

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

# ── Patterns per dimension (detectable in Arabic text) ──────────────────────

# Dim 1-3: Cognitive structure — reasoning markers
# Extended with corpus-frequent connectors that carry reasoning meaning
REASONING_MARKERS = [
    "إذ", "حيث", "بناءً عليه", "يستنتج من ذلك", "يلزم من هذا",
    "لأن", "بما أن", "بسبب", "لذلك", "ولأجل ذلك",
    "ومن هنا", "فإن", "نخلص إلى", "نستنتج",
    # corpus-grounded extensions (top connectors from empirical-patterns.json):
    "وقد",  # 605 — soft-asserted prior fact / argumentative bridge
    "إذا",  # 945 — conditional reasoning
    "حتى",  # 1072 — limit / extreme-case argument
    "بل",   # 809 — corrective reasoning ("rather...")
    "كما أن",        # parallel inference
    "ومن ثم",        # consequential
    "وهكذا",         # synthetic conclusion
    "ولذلك",         # consequent
    "فلهذا",         # consequent
    "ومن البديهي أن",
    "وعليه فإن",
    "يقتضي ذلك",
    "وقد ثبت",
    "فلا غرو أن",
]

# Dim 4: Human analysis — comparison/classification markers
ANALYSIS_MARKERS = [
    "مقارنة بـ", "بالمقارنة مع", "على عكس", "بخلاف", "ومن ناحية",
    "ينقسم إلى", "يتفرع", "ينتمي إلى", "يندرج تحت", "بينما",
    "في حين أن",
    # extensions:
    "في حين أنّ", "بالنظر إلى", "إذا قارنّا", "وفي مقابل ذلك",
    "ولا يقاس على", "والفرق بين", "أمّا", "وأما",
    "ومن وجه آخر", "ومن زاوية مغايرة",
]

# Dim 5: Graduated explanation — scaffolding markers
SCAFFOLD_MARKERS = [
    "بدايةً", "نبدأ بـ", "أولاً نتأمل", "ثم ننتقل إلى",
    "بعد أن أوضحنا", "والآن وقد", "وإذا توضح ذلك",
    "نمضي خطوة أبعد",
    # extensions:
    "نَستهلّ بـ", "وقبل الخوض في", "وَفي ضوء ما تقدّم",
    "وإذ قد تَوضّح", "ولكي يتّضح الأمر", "وَلنبدأ من الأبسط",
    "ثم نَرقى إلى", "وإذا انتهينا من ... فلننتقل إلى",
]

# Dim 6: Scope — boundary markers
SCOPE_MARKERS = [
    "في حدود ما يخص", "بمعزل عن", "دون الخوض في", "ولا نقصد هنا",
    "في حدود هذا البحث", "في نطاق", "يقتصر هذا على", "خارج إطار",
    # extensions:
    "ولا يَدخل في هذا", "بمعزل عن السؤال عن", "وفي حدود اهتمامنا",
    "ولسنا بصدد", "ولا نَطمح هنا إلى", "خارج نطاق هذا المقال",
    "وَنترك جانباً", "ولا يَتسع المقام",
]

# Dim 7: Transitions — sophisticated transition markers
TRANSITION_MARKERS = [
    "ومن جانب آخر", "ومن جهة أخرى",  # both common variants
    "بمعزل عن ذلك", "وعلى مفترق آخر",
    "وفي اتجاه مختلف", "ولا يفوتنا أن", "ومن زاوية مغايرة",
    # extensions:
    "ولعلّ من المفيد الانتقال إلى", "وَنَرى من المناسب",
    "وتحضرنا هنا فكرة أخرى", "ولا يَخفى ارتباط ذلك بـ",
    "وَلَستُ أَنسى", "وَهنا نقطة تستحقّ التأمل",
    "وفي مَوضعٍ آخر", "ومن جهةٍ أخرى",
    "وَأمّا الجانب الآخر", "وعلى نَحوٍ مغاير",
]

# Dim 8: Partitioning — axis markers
AXIS_MARKERS = [
    "المحور الأول", "المحور الثاني", "البعد الأول", "البعد الثاني",
    "ينقسم إلى", "ثلاثة وجوه", "أربع زوايا", "خمسة محاور",
    # extensions (corpus shows واما 1983 as sentence-initial; partitioning pattern):
    "أمّا الأول فـ", "أمّا الأول، ف",  # both common punctuation styles
    "أمّا الثاني فـ", "أمّا الثاني، ف",
    "أمّا الثالث فـ", "أمّا الثالث، ف",
    "أمّا الأول", "أمّا الثاني", "أمّا الثالث",  # bare forms
    "ومن وجه أوّل", "ومن وجه ثانٍ", "أحدهما", "والآخر",
    "ينقسم القول في هذا إلى",
    "أوّلاً", "ثانياً", "ثالثاً", "رابعاً",  # ordinal markers as partition signals
]

# Dim 9: Literary art — image / rhythm markers (heuristic via parallel structure)
# Detected via parallel-structure count + sentence-length variance (burstiness)

# Dim 10: Historical — history-referencing markers
HISTORICAL_MARKERS = [
    "في عصر", "في زمن", "إبان", "خلال حقبة", "في القرن",
    "في عهد", "في الأندلس", "في بغداد", "إذ كان العباسيون",
    "كما حدث في", "يذكرنا التاريخ", "ما حدث عام",
    "في زمن الفتنة", "في زمن النهضة",
    # extensions (5-analogy catalog per references/06-historical-anchoring.md):
    "كما شهدت الأندلس", "كما حدث في زمن الفتح",
    "كما رأينا في عصر الازدهار العباسي", "كما حلّ بالعالم الإسلامي مع المغول",
    "كما تشهد منطقتنا اليوم",
    "ولعلّ التاريخ يَعيد نفسه", "ولنا في الماضي عبرة", "ويذكّرنا هذا بـ",
    "كأنّنا في عصر", "إنّ التاريخ يُحدّثنا عن",
    # Historical-figure references (treating named classical scholars as anchors):
    "ابن خلدون", "ابن رشد", "ابن سينا", "الجاحظ", "الجرجاني", "الغزالي",
    "ابن تيمية", "ابن النفيس", "الفارابي", "الكندي",
    "كما ذكر ابن", "كما قال ابن", "ما ذَكَره ابن",
    "القرن السادس الهجري", "القرن الثامن عشر", "القرن التاسع عشر",
    "القرن العشرين", "في القرن الماضي", "في الحقبة",
]

# Dim 11: Imagination — sensory/metaphor markers (heuristic)
# Pronoun-suffix tolerance now in count_marker_safe handles كأنّنا / كأنّه etc.
SENSORY_MARKERS = [
    "وكأن", "كأن", "أشبه بـ", "يشبه", "يذكّر بـ", "تخيّل",
    "تصوّر", "كما لو", "صورة من", "مشهد",
    # extensions:
    "وَنَكاد نَسمع", "ويُخيَّل إلينا", "يبدو الأمر كأنّه",
    "صورة هذا أنّ", "ولو رأيت", "ولو تَأمّلت",
    "كَمن يقف على", "كَمَن يَنظر إلى", "والمشهد كأنّه",
    # Concrete-image / scene-setting markers:
    "نَهر يَجري", "كَنَهر", "كَطَير", "كالماء", "كالنار",
    "كَأَنّنا أَمام", "والصورة هي", "كَمَن",
]

# Dim 12: Rhetorical figures — heuristic detection
# جناس detection: sound-alike word pairs (approx via repeated 3-letter roots)
# طباق detection: antonym pairs (expanded with classical + modern oppositions)
ANTITHESIS_PAIRS = [
    # Classical pairs:
    ("ليل", "نهار"), ("شرق", "غرب"), ("حياة", "موت"),
    ("قوة", "ضعف"), ("علم", "جهل"), ("ظاهر", "باطن"),
    ("قديم", "حديث"), ("سلم", "حرب"), ("غنى", "فقر"),
    # Spatial / dimensional:
    ("صغير", "كبير"), ("قريب", "بعيد"), ("داخل", "خارج"),
    ("أعلى", "أسفل"), ("فوق", "تحت"),
    # Cognitive / philosophical:
    ("ثابت", "متغير"), ("مطلق", "نسبي"), ("معروف", "مجهول"),
    ("صدق", "كذب"), ("حق", "باطل"), ("خير", "شر"),
    # Modern / political / technological:
    ("تسارع", "تباطؤ"), ("التسارع", "التباطؤ"),
    ("انفتاح", "انغلاق"), ("الانفتاح", "الانغلاق"),
    ("تقدّم", "تأخّر"), ("التقدّم", "التأخّر"),
    ("نقل", "تحقيق"), ("النقل", "التحقيق"),  # Andalusian rhetoric anchor
    ("مندفع", "متردد"), ("مستقبل", "ماضي"),
    ("حركة", "سكون"), ("الحركة", "السكون"),
    ("ساكنة", "متدفقة"), ("الساكن", "المتدفق"),
    # Verb pairs:
    ("يَغرّه", "يُثنيه"),  # observed in real classical text
]

# Tashbeeh-by-prefix-kaf — كَ + noun is a common Arabic similitude marker
TASHBEEH_KAF_PATTERN = re.compile(
    r'(?<![ء-ي])كَ?[َـ]?'         # prefix kaf with optional fatha/tatweel
    r'(?:ال)?'                        # optional ال
    r'(?:نهر|طير|بحر|جبل|نار|ماء|ريح|شمس|قمر|نسيج|نَهر|طَير)'  # concrete image nouns
)

# Dim 13: Coherence — intra-text citation markers
CITATION_MARKERS = [
    "كما قدّمنا", "وفي ضوء ما تقدّم", "إذ سبق أن قلنا",
    "وقد أشرنا آنفاً", "كما أشرنا", "بناءً على ما أسلفنا",
    "ولعل القارئ يتذكر", "كما ذكرنا",
    # extensions (the 12-phrase catalog from references/09-coherence-non-repetition.md):
    "كما قدّمنا", "وقد قلنا", "ومرّ بنا", "كما تقدّم",
    "وفيما سبق رأينا", "ولعلّك تَذكر", "وهو ما أَلمحنا إليه",
    "وَقد جرى ذكره",
    "وَلْنُذَكِّر بـ", "وَلنَستحضر ما قلناه عن",
]

# Dim 14: Reader respect — NEGATIVE markers (their presence = WEAK on this dim)
# See references/14-reader-respect.md
OVER_EXPLANATION_MARKERS = [
    "أي بمعنى آخر", "بمعنى آخر", "وهذا يعني أن", "وهذا يعني أنّ",
    "أي أن", "أي أنّ", "بمعنى أنه", "بمعنى أنّه",
    "بعبارة أخرى", "وبتعبير آخر", "وبعبارة أوضح", "بعبارة أوضح",
    "ولتوضيح ذلك أكثر", "وحتى تتضح الفكرة", "وحتى تتّضح الفكرة",
    "ولزيادة الإيضاح", "ولكي يتّضح المعنى",
]

REDUNDANT_AFFIRMATION_MARKERS = [
    "وهذا أمر مؤكّد", "وهذا أمر مؤكد", "وهذا حقيقة",
    "بلا شك ولا ريب", "والأمر واضح وجلي", "والأمر واضح وجَلِيّ",
    "كما هو معلوم ومعروف", "وهذا واضح وجَلِيّ", "وهذا واضح وجلي",
    "وهذا أمر بديهي ومعلوم", "ولا يخفى على أحد",
    "مؤكّد وحقيقي وثابت", "حقيقي ومؤكّد", "ثابت وراسخ",
    "واقعي ومؤكّد", "ولا شك أنّ", "ولا ريب أنّ",
]

FORCED_CONCLUSION_MARKERS = [
    "نستنتج من هذا أن", "نَستنتج من هذا أنّ", "ونستنتج أن",
    "وهذا يدل على", "وهذا يَدلّ على",
    "ومن هنا نفهم أن", "ومن هنا نَفهم أنّ",
    "وعليه يتضح أن", "وعليه يَتّضح أنّ",
    "وهذا برهان قاطع على", "وهذا دليل قاطع على",
    "ومن الواضح إذن أن", "وبالتالي نَخلص إلى أنّ",
    "وعلى هذا فإنّ", "وَنَستنبط من ذلك أنّ",
]

KNOWN_TERM_DEFINITIONS = [
    "ونعني بـ", "والمقصود بـ", "والمقصود بِـ",
    "ونَقصد بـ", "وَيُعرَّف بأنّه", "ويُعرَّف بِأنّه",
    "ويَعني ذلك أن",
]

# ── Dim 16: الفصل والوصل (Junction-Disjunction) ──
# Distributional analysis — connector diversity via Shannon entropy.
# See references/16-fasl-wa-wasl.md
# Connectors with their conceptual roles. We measure the DISTRIBUTION,
# not presence, so the ordering is just for readability.
FASL_WASL_CONNECTORS = [
    "و", "فـ", "ثم", "بل", "لكن", "غير أن", "بيد أن",
    "أو", "أم", "حتى", "إذ", "إذا", "لما", "لأن", "كي",
    "كما", "حيث", "إن", "أن", "قد",
]

# ── Dim 15: Typography hygiene — mechanical issues, regex-detectable ──
# See references/15-typography-hygiene.md
AR_EN_ADJACENCY = re.compile(r'[؀-ۿ][A-Za-z]|[A-Za-z][؀-ۿ]')
LATIN_COMMA_IN_AR = re.compile(r'[؀-ۿ]\s*,\s*[؀-ۿ]')
LATIN_SEMICOLON_IN_AR = re.compile(r'[؀-ۿ]\s*;\s*[؀-ۿ]')
LATIN_QMARK_IN_AR = re.compile(r'[؀-ۿ][^.\n]{0,80}\?')  # ? after Arabic clause
# Punct directly followed by a non-space, non-digit-decimal, non-URL char:
PUNCT_NO_SPACE = re.compile(r'[،؛](?![\s$])')  # Arabic punct with no space
# Paren directly adjacent to a Latin letter (no space inside):
PAREN_EN_NO_SPACE = re.compile(r'\([A-Za-z]|[A-Za-z]\)')
# Mixed numbering styles in close proximity (within ~200 chars):
NUM_STYLE_PARENS = re.compile(r'(?:^|\n)\s*\(\d+\)')
NUM_STYLE_DOT    = re.compile(r'(?:^|\n)\s*\d+\.\s')
NUM_STYLE_DASH   = re.compile(r'(?:^|\n)\s*\d+-\s')


# ── Normalization helpers (Fix #1 from cross-LLM critique) ─────────────────
# The comp-linguist found that bare text.count() conflates إذ/إذا/إذن
# (substring matches inside the longer words). We need:
#   1. Diacritic-insensitive matching (يُعرَّف ≡ يعرف)
#   2. Word-boundary-aware matching (إذ NOT matched inside إذا)
#   3. Prefix-aware و detection (و in والكتاب counts as a connector)

_DIACRITICS_RE = re.compile(r'[ً-ٰٟۖ-ۭ]')  # all Arabic diacritics
_AR_LETTER_CLASS = r'[ء-يٱ-ۓ]'  # Arabic letters (excludes diacritics)


def _normalize_diacritics(s: str) -> str:
    """Strip Arabic diacritics. يُعرَّف → يعرف."""
    return _DIACRITICS_RE.sub('', s)


# Common Arabic pronoun suffixes that legally attach to verbs/particles.
# Including these as OPTIONAL match suffix solves the كأنّنا / كأنّه problem
# without re-introducing the إذ/إذا conflation: "ا" is NOT a pronoun suffix,
# so 'إذ' + 'ا' still won't match because the negative lookahead rejects it.
_PRONOUN_SUFFIX_PATTERN = r'(?:ه|ها|هم|هن|هما|ك|كم|كن|نا|ي)?'


def count_marker_safe(text: str, marker: str) -> int:
    """Word-boundary-aware, diacritic-insensitive, pronoun-suffix-tolerant.

    Strips diacritics from both text and marker before matching.
    Allows an optional Arabic pronoun suffix attached to the marker (so كأنّنا
    matches the marker كأن with pronoun نا, but إذا still won't match إذ since
    ا isn't a pronoun suffix).
    Asserts the AFTER position (after any pronoun suffix) is bounded by
    non-Arabic-letter context.
    """
    text_n = _normalize_diacritics(text)
    marker_n = _normalize_diacritics(marker)
    if not marker_n:
        return 0
    pattern = (
        r'(?<!' + _AR_LETTER_CLASS + r')' +
        re.escape(marker_n) +
        _PRONOUN_SUFFIX_PATTERN +
        r'(?!' + _AR_LETTER_CLASS + r')'
    )
    return len(re.findall(pattern, text_n))


def count_markers(text: str, markers: list[str]) -> int:
    """Count occurrences of any marker in text, with proper Arabic boundaries."""
    return sum(count_marker_safe(text, m) for m in markers)


def _count_connector_distrib(text: str, connector: str) -> int:
    """Loose, prefix-aware counter for Dim 16 distributional analysis.

    Single-char connectors (و, ف, ك, ل) may attach as prefixes to the next
    word ("والذكاء") and should still count. Multi-char short connectors
    (ثم, بل, إذ) need word-boundary on both sides to avoid the إذ/إذا
    conflation. Multi-word phrases ("بيد أن") use simple substring match.
    """
    text_n = _normalize_diacritics(text)
    c_n = _normalize_diacritics(connector)
    if not c_n:
        return 0
    if len(c_n) == 1:
        # Prefix-allowed: preceded by non-letter (boundary on LEFT only)
        pattern = r'(?<![ء-ي])' + re.escape(c_n)
        return len(re.findall(pattern, text_n))
    if len(c_n) <= 3:
        # Strict boundary both sides — prevents إذ matching inside إذا/إذن
        pattern = (r'(?<![ء-ي])' + re.escape(c_n) + r'(?![ء-ي])')
        return len(re.findall(pattern, text_n))
    # Multi-word phrases: substring match with normalization
    return text_n.count(c_n)


def sentence_split(text: str) -> list[str]:
    """Fix #5 (bug 3): also split on Arabic semicolon ؛"""
    return [s.strip() for s in re.split(r'[.!?؟؛…]+\s+', text) if s.strip()]


def word_count(text: str) -> int:
    return len(text.split())


def detect_repetition(sentences: list[str]) -> dict:
    """Lexical + structural repetition signals."""
    # Lexical: same word in nearby sentences
    lex_repeats = 0
    for i, s in enumerate(sentences):
        if i + 1 >= len(sentences): break
        s_words = set(w for w in s.split() if len(w) > 3)
        next_words = set(w for w in sentences[i+1].split() if len(w) > 3)
        lex_repeats += len(s_words & next_words)
    # Structural: same first word in consecutive sentences
    struct_repeats = sum(
        1 for i in range(len(sentences)-1)
        if sentences[i].split()[0:1] == sentences[i+1].split()[0:1]
        if sentences[i].split()
    )
    return {"lexical_overlap_pairs": lex_repeats, "same_starter_runs": struct_repeats}


def detect_antithesis(text: str) -> int:
    """Count طباق pairs co-occurring in the text."""
    hits = 0
    for a, b in ANTITHESIS_PAIRS:
        if a in text and b in text:
            hits += 1
    return hits


def burstiness(sentences: list[str]) -> float:
    """Sentence length variance / mean = coefficient of variation."""
    if len(sentences) < 2: return 0.0
    lengths = [len(s.split()) for s in sentences]
    mean = sum(lengths) / len(lengths)
    if mean == 0: return 0.0
    var = sum((l - mean) ** 2 for l in lengths) / len(lengths)
    return math.sqrt(var) / mean


def score_dimension(text: str, sentences: list[str], words: int, dim_num: int) -> dict:
    """Score one dimension 0-15 with detected signals."""
    if dim_num in (1, 2, 3):  # reasoning markers
        hits = count_markers(text, REASONING_MARKERS)
        rate = hits / max(1, words / 100)  # per 100 words
        score = min(15, int(rate * 5))
        return {"score": score, "signals": {"reasoning_marker_count": hits,
                                              "per_100_words": round(rate, 2)}}
    if dim_num == 4:
        hits = count_markers(text, ANALYSIS_MARKERS)
        rate = hits / max(1, words / 100)
        score = min(15, int(rate * 6))
        return {"score": score, "signals": {"analysis_marker_count": hits}}
    if dim_num == 5:
        hits = count_markers(text, SCAFFOLD_MARKERS)
        score = min(15, int(hits * 4))
        return {"score": score, "signals": {"scaffold_marker_count": hits}}
    if dim_num == 6:
        hits = count_markers(text, SCOPE_MARKERS)
        score = min(15, int(hits * 5))
        return {"score": score, "signals": {"scope_marker_count": hits}}
    if dim_num == 7:
        hits = count_markers(text, TRANSITION_MARKERS)
        score = min(15, int(hits * 4))
        return {"score": score, "signals": {"transition_marker_count": hits}}
    if dim_num == 8:
        hits = count_markers(text, AXIS_MARKERS)
        score = min(15, int(hits * 5))
        return {"score": score, "signals": {"axis_marker_count": hits}}
    if dim_num == 9:
        # literary art = burstiness proxy + parallel structure presence
        b = burstiness(sentences)
        # Score on burstiness curve: 0.0=0, 0.5=8, 1.0=12, 2.0+=15
        score = min(15, int(b * 12))
        return {"score": score, "signals": {"burstiness": round(b, 2)}}
    if dim_num == 10:
        hits = count_markers(text, HISTORICAL_MARKERS)
        score = min(15, int(hits * 5))
        return {"score": score, "signals": {"historical_marker_count": hits}}
    if dim_num == 11:
        # Sensory markers (existing list) + tashbeeh-by-prefix-kaf detection
        hits = count_markers(text, SENSORY_MARKERS)
        # كـ + concrete noun (NEW — catches كالنهر، كالطير، كالنسيج)
        kaf_hits = len(TASHBEEH_KAF_PATTERN.findall(_normalize_diacritics(text)))
        total = hits + kaf_hits
        score = min(15, int(total * 4))
        return {"score": score, "signals": {
            "sensory_marker_count": hits,
            "tashbeeh_kaf_count": kaf_hits,
            "total": total,
        }}
    if dim_num == 12:
        ant = detect_antithesis(text)
        score = min(15, ant * 4)
        return {"score": score, "signals": {"antithesis_pairs": ant}}
    if dim_num == 13:
        cit = count_markers(text, CITATION_MARKERS)
        rep = detect_repetition(sentences)
        # Score = high citation, low repetition
        score_cit = min(8, cit * 3)
        rep_total = rep["lexical_overlap_pairs"] + rep["same_starter_runs"]
        score_norep = max(0, 7 - rep_total // 2)
        score = score_cit + score_norep
        return {"score": score, "signals": {**rep, "citation_marker_count": cit}}
    if dim_num == 14:
        # INVERSE scoring: starts at 15, subtracts for negative markers.
        # The presence of these markers means the text disrespects the reader's
        # intelligence (over-explains, repeats, draws conclusions for them, etc.)
        over_exp = count_markers(text, OVER_EXPLANATION_MARKERS)
        redund = count_markers(text, REDUNDANT_AFFIRMATION_MARKERS)
        forced = count_markers(text, FORCED_CONCLUSION_MARKERS)
        defs = count_markers(text, KNOWN_TERM_DEFINITIONS)
        # Each marker subtracts 2 points; floor at 0
        penalty = 2 * (over_exp + redund + forced + defs)
        score = max(0, 15 - penalty)
        return {"score": score, "signals": {
            "over_explanation_count": over_exp,
            "redundant_affirmation_count": redund,
            "forced_conclusion_count": forced,
            "known_term_definitions": defs,
            "total_penalty_points": penalty,
        }}
    if dim_num == 16:
        # الفصل والوصل — distributional analysis of connector diversity.
        # Score 0-15 based on Shannon entropy of connector distribution.
        # Use _count_connector_distrib (loose, prefix-aware) instead of
        # the strict count_marker_safe — because و typically attaches as a
        # prefix (والذكاء) and rejecting that under-counts the dominant case.
        counts = {c: _count_connector_distrib(text, c) for c in FASL_WASL_CONNECTORS}
        total = sum(counts.values())
        nonzero = [n for n in counts.values() if n > 0]
        # Three failure modes are distinct:
        # (a) too few connectors total to assess → neutral 8
        # (b) total≥5 but only ONE distinct connector → MONOCULTURE → low 2
        # (c) classical-rich connector distribution → compute entropy below
        if total < 5:
            return {"score": 8, "signals": {
                "total_connectors": total,
                "distinct_connectors": len(nonzero),
                "note": "too few connectors to score reliably; returning neutral 8",
            }}
        if len(nonzero) < 2:
            # Monoculture: 5+ uses of a single connector. Classic AI tell.
            sole = next((c for c, n in counts.items() if n > 0), "?")
            return {"score": 2, "signals": {
                "total_connectors": total,
                "distinct_connectors": 1,
                "monoculture_connector": sole,
                "note": "extreme monoculture: only one connector used 5+ times",
            }}
        # Shannon entropy of the connector distribution
        probs = [n / total for n in nonzero]
        H = -sum(p * math.log2(p) for p in probs)
        H_max = math.log2(len(nonzero))
        diversity = H / H_max if H_max > 0 else 0
        # Bonus for using rare connectors (بل, بيد أن, غير أن, إذ)
        rare_used = sum(1 for c in ["بل", "بيد أن", "غير أن", "إذ"]
                        if counts.get(c, 0) > 0)
        # و should be <65% of total for human-like distribution
        w_share = counts.get("و", 0) / total
        w_penalty = max(0, (w_share - 0.65) * 10)  # 0-3.5 penalty if >65%
        base_score = 15 * diversity
        score = max(0, min(15, round(base_score + rare_used - w_penalty)))
        # Top 5 connectors used (for diagnostic transparency)
        top = sorted(counts.items(), key=lambda kv: -kv[1])[:5]
        return {"score": score, "signals": {
            "total_connectors": total,
            "distinct_connectors": len(nonzero),
            "shannon_entropy": round(H, 2),
            "diversity_ratio": round(diversity, 2),
            "rare_connectors_used": rare_used,
            "w_share": round(w_share, 2),
            "top_5_connectors": top,
        }}
    if dim_num == 15:
        # Typography hygiene — INVERSE scoring on mechanical issues.
        ar_en_adj = len(AR_EN_ADJACENCY.findall(text))
        lat_comma = len(LATIN_COMMA_IN_AR.findall(text))
        lat_semi = len(LATIN_SEMICOLON_IN_AR.findall(text))
        paren_en = len(PAREN_EN_NO_SPACE.findall(text))
        # Mixed numbering: penalize if 2+ styles co-exist in the text
        styles = sum([
            bool(NUM_STYLE_PARENS.search(text)),
            bool(NUM_STYLE_DOT.search(text)),
            bool(NUM_STYLE_DASH.search(text)),
        ])
        mixed_numbering = max(0, styles - 1)  # 0 if only one style, 1 if mixed
        # Each issue subtracts 1 point; mixed-numbering subtracts 3
        penalty = ar_en_adj + lat_comma + lat_semi + paren_en + 3 * mixed_numbering
        score = max(0, 15 - penalty)
        return {"score": score, "signals": {
            "ar_en_adjacency_no_space": ar_en_adj,
            "latin_comma_in_arabic": lat_comma,
            "latin_semicolon_in_arabic": lat_semi,
            "paren_english_no_space": paren_en,
            "mixed_numbering_styles": mixed_numbering,
            "total_penalty_points": penalty,
        }}
    return {"score": 0, "signals": {}}


DIM_NAMES = {
    1: "الاستنتاج (Deduction)",
    2: "الاستدلال (Inference)",
    3: "الاستنباط (Specific inference)",
    4: "التحليل البشري (Human analysis)",
    5: "التدرج في الشرح (Graduated explanation)",
    6: "تحديد النطاق (Scope definition)",
    7: "التنقل في الأفكار (Idea transitions)",
    8: "التقسيم للمحاور (Axes partitioning)",
    9: "الفن الأدبي (Literary art)",
    10: "الاستدلال التاريخي (Historical anchoring)",
    11: "التخيل وتوسيع الإدراك (Imagination)",
    12: "البلاغة (Rhetorical figures)",
    13: "عدم التكرار + الاستدلال الداخلي (Coherence)",
    14: "ضبط القارئ — Cognitive Restraint Score (positive: high=good)",
    15: "إتقان الصياغة — Typographic Precision Score (positive: high=good)",
    16: "الفصل والوصل (Junction-disjunction — DISTRIBUTIONAL)",
}


def analyze(text: str) -> dict:
    sentences = sentence_split(text)
    words = word_count(text)
    by_dim = {}
    total = 0
    for n in range(1, 17):
        r = score_dimension(text, sentences, words, n)
        by_dim[n] = {"name": DIM_NAMES[n], **r}
        total += r["score"]
    # Overall on a 0-100 scale (max 240 = 15 × 16)
    overall = round(100 * total / (15 * 16), 1)
    weakest = sorted(by_dim.items(), key=lambda kv: kv[1]["score"])[:3]
    return {
        "word_count": words,
        "sentence_count": len(sentences),
        "burstiness": round(burstiness(sentences), 3),
        "by_dimension": by_dim,
        "total_points": total,
        "overall_humanness_0_100": overall,
        "weakest_dimensions": [(n, by_dim[n]["name"], by_dim[n]["score"])
                                for n, _ in weakest],
    }


def render_report(a: dict) -> str:
    lines = []
    lines.append("=" * 70)
    lines.append("13-Dimension Humanness Analysis")
    lines.append("=" * 70)
    lines.append(f"Words: {a['word_count']}  Sentences: {a['sentence_count']}  "
                 f"Burstiness: {a['burstiness']}")
    lines.append(f"Overall humanness: {a['overall_humanness_0_100']}/100  "
                 f"({a['total_points']}/240 points)")
    lines.append("")
    lines.append(f"{'#':>3} {'Dimension':<48} {'Score':>5}")
    lines.append("-" * 70)
    for n in range(1, 17):
        d = a["by_dimension"][n]
        lines.append(f"{n:>3} {d['name']:<48} {d['score']:>3}/15")
    lines.append("")
    lines.append("Weakest 3 dimensions (target with humanize_v2.py):")
    for n, name, sc in a["weakest_dimensions"]:
        lines.append(f"  [{sc:>2}/15] dim {n}: {name}")
    return "\n".join(lines)


def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--input", "-i", help="Inline text")
    ap.add_argument("--file", "-f", type=Path, help="Read from file")
    ap.add_argument("--json", action="store_true", help="Output JSON")
    ap.add_argument("--report", action="store_true",
                    help="Output human-readable report")
    args = ap.parse_args()

    if args.file:
        text = args.file.read_text(encoding="utf-8")
    elif args.input:
        text = args.input
    else:
        text = sys.stdin.read()
    if not text.strip():
        raise SystemExit("empty input")

    result = analyze(text)
    if args.json:
        print(json.dumps(result, ensure_ascii=False, indent=2))
    else:
        print(render_report(result))


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/scripts/score_humanness.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Side-by-side 13-dimension before/after comparison + delta report.

Usage:
    python score_humanness.py --before original.txt --after humanized.txt
    python score_humanness.py --before original.txt --after humanized.txt --json
"""
from __future__ import annotations
import argparse, json, sys
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

sys.path.insert(0, str(Path(__file__).parent))
from analyze_deep import analyze, DIM_NAMES


def render(before: dict, after: dict) -> str:
    lines = []
    lines.append("=" * 80)
    lines.append("Humanness Comparison — Before vs. After")
    lines.append("=" * 80)
    lines.append(f"Before: {before['word_count']} words, "
                 f"{before['sentence_count']} sentences, "
                 f"burstiness {before['burstiness']}")
    lines.append(f"After:  {after['word_count']} words, "
                 f"{after['sentence_count']} sentences, "
                 f"burstiness {after['burstiness']}")
    lines.append("")
    lines.append(f"{'#':>3} {'Dimension':<48} {'Before':>6} {'After':>6} {'Δ':>5}")
    lines.append("-" * 80)
    for n in range(1, 17):
        bs = before["by_dimension"][n]["score"]
        as_ = after["by_dimension"][n]["score"]
        d = as_ - bs
        d_str = f"+{d}" if d > 0 else str(d)
        marker = "↑" if d > 0 else "↓" if d < 0 else " "
        lines.append(f"{n:>3} {DIM_NAMES[n]:<48} {bs:>4}/15 {as_:>4}/15 {d_str:>4}{marker}")
    lines.append("-" * 80)
    bt = before["total_points"]
    at = after["total_points"]
    bh = before["overall_humanness_0_100"]
    ah = after["overall_humanness_0_100"]
    lines.append(f"    {'TOTAL':<48} {bt:>4}/240 {at:>4}/240 {at-bt:+4}")
    lines.append(f"    {'HUMANNESS 0-100':<48} {bh:>6.1f} {ah:>6.1f} {ah-bh:+5.1f}")
    lines.append("")
    # Band
    def band(score):
        if score >= 91: return "indistinguishable"
        if score >= 71: return "excellent"
        if score >= 41: return "good"
        return "mediocre"
    lines.append(f"Before band: {band(bh)}")
    lines.append(f"After band:  {band(ah)}")
    if (band(bh) != band(ah)):
        lines.append(f"  → band promotion!")
    return "\n".join(lines)


def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--before", required=True, type=Path)
    ap.add_argument("--after", required=True, type=Path)
    ap.add_argument("--json", action="store_true")
    args = ap.parse_args()

    if not args.before.exists():
        raise SystemExit(f"not found: {args.before}")
    if not args.after.exists():
        raise SystemExit(f"not found: {args.after}")

    before = analyze(args.before.read_text(encoding="utf-8"))
    after = analyze(args.after.read_text(encoding="utf-8"))

    if args.json:
        print(json.dumps({"before": before, "after": after,
                          "delta_humanness": round(
                              after["overall_humanness_0_100"]
                              - before["overall_humanness_0_100"], 1)},
                         ensure_ascii=False, indent=2))
    else:
        print(render(before, after))


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/scripts/mine_corpus.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Stream-process a JSONL Arabic corpus for empirical patterns.

Input format: one JSON record per line with {"text": "...", "metadata":
{"category": "..."}} fields. Use any classical-Arabic-leaning JSONL.

Default sample: 100,000 records (≈87 seconds for the reference corpus,
producing ≈1.31M sentences, ≈71.3M tokens across the categories the
input declares).

Computes per-category aggregates: sentence-length distribution, connector
frequency, sentence-initial token distribution, character-level statistics.

Output: corpus/empirical-patterns.json (relative to this skill's root).
"""
from __future__ import annotations
import argparse, json, re, sys, time
from collections import Counter, defaultdict
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

# Arabic sentence terminators
SENT_END = re.compile(r'[.!?؟…]+\s+')
# Arabic punctuation for tokenization
PUNCT = re.compile(r'[،؛؟٪٬٫!?,.;:()\[\]{}\'"<>«»\-—–_…]')
# Arabic letter range
AR_LETTER = re.compile(r'[؀-ۿ]')
# Common connector candidates to track frequency
CONNECTORS = [
    "و", "ف", "ثم", "أو", "لكن", "بل", "غير أن", "بيد أن", "إذ", "إذا", "إذن",
    "حتى", "كما", "كذلك", "أيضاً", "أيضا", "مع ذلك", "مع أن", "علاوة على ذلك",
    "بالإضافة إلى ذلك", "من ناحية أخرى", "في المقابل", "بالمقابل",
    "وعلى الرغم من", "رغم أن", "على أن", "لذلك", "لذا", "وبالتالي",
    "ولا غرو", "وقد", "قد", "إن", "أن", "بأن",
    "من جهة", "من جهة أخرى", "أولاً", "ثانياً", "ثالثاً", "أخيراً",
    "في البداية", "في النهاية", "في الختام",
    "على سبيل المثال", "مثلاً", "كمثال", "نحو", "كقولنا",
    "لأن", "بسبب", "نظراً ل", "بناءً على",
    "إلى جانب", "فضلاً عن", "ناهيك عن",
    "خلاصة القول", "وفي النهاية", "وفي الختام",
    "وذلك", "حيث", "بحيث", "كأن", "كأنما",
    "ولعل", "ربما", "قد يكون", "يبدو أن",
]
# Sort by length DESC so longer patterns match first
CONNECTORS_SORTED = sorted(CONNECTORS, key=lambda x: -len(x))


def normalize_ar(s: str) -> str:
    """Strip tatweel, diacritics, normalize hamza/ya."""
    s = re.sub(r'ـ+', '', s)
    s = re.sub(r'[ً-ٰٟ]', '', s)  # diacritics
    s = s.translate(str.maketrans("أإآ", "ااا")).replace("ى", "ي")
    return s


def split_sentences(text: str) -> list[str]:
    parts = SENT_END.split(text)
    return [p.strip() for p in parts if p.strip()]


def tokenize(text: str) -> list[str]:
    text = PUNCT.sub(' ', text)
    return [t for t in text.split() if len(t) >= 1]


def count_connectors(sentence: str) -> dict:
    """Count connector occurrences in a sentence (longer-first match)."""
    out = Counter()
    s_norm = " " + sentence + " "
    for c in CONNECTORS_SORTED:
        c_norm = " " + c + " "
        n = s_norm.count(c_norm)
        if n: out[c] += n
    return out


def main():
    import os as _os
    ap = argparse.ArgumentParser()
    # Default input: ARABIC_CORPUS_PATH env var if set, else "./corpus.jsonl"
    # in the current working directory. The CLI flag overrides both. The skill
    # ships with corpus/empirical-patterns.json already computed, so most users
    # won't need to run this script.
    default_input = _os.environ.get("ARABIC_CORPUS_PATH", "./corpus.jsonl")
    # Default output: write to corpus/empirical-patterns.json relative to this
    # script's parent skill directory — portable across installs.
    default_out = Path(__file__).resolve().parent.parent / "corpus" / "empirical-patterns.json"
    ap.add_argument("--input", type=Path, default=Path(default_input),
                    help=("Path to a JSONL with {text, metadata.category} "
                          "records. Defaults to $ARABIC_CORPUS_PATH or "
                          "./corpus.jsonl. The skill ships with a pre-mined "
                          "corpus/empirical-patterns.json — this script is "
                          "rarely needed for end users."))
    ap.add_argument("--sample", type=int, default=100000,
                    help="Max records to sample (default 100K). Use 0 for full file.")
    ap.add_argument("--out", type=Path, default=default_out,
                    help="Output path for empirical-patterns.json.")
    args = ap.parse_args()

    if not args.input.exists():
        raise SystemExit(f"Corpus not found: {args.input}")

    print(f"[mine] streaming {args.input} (sample={args.sample or 'full'})", flush=True)
    start = time.time()

    # Per-category aggregates
    cat_stats = defaultdict(lambda: {
        "n_records": 0,
        "n_sentences": 0,
        "n_tokens": 0,
        "sentence_lengths": [],
        "connector_counts": Counter(),
        "sent_initial_tokens": Counter(),
        "tashkeel_ratio_sum": 0.0,
        "tashkeel_ratio_n": 0,
    })
    overall = {"n_records": 0, "n_skipped": 0}

    with args.input.open("rb") as f:
        for line_no, raw in enumerate(f, 1):
            if args.sample and overall["n_records"] >= args.sample:
                break
            try:
                obj = json.loads(raw.decode("utf-8", errors="replace"))
            except Exception:
                overall["n_skipped"] += 1
                continue
            text = obj.get("text", "")
            if not isinstance(text, str) or not text.strip():
                overall["n_skipped"] += 1
                continue
            md = obj.get("metadata") or {}
            cat = md.get("category") or "unknown"

            sentences = split_sentences(text)
            tokens = tokenize(text)

            stats = cat_stats[cat]
            stats["n_records"] += 1
            stats["n_sentences"] += len(sentences)
            stats["n_tokens"] += len(tokens)
            for s in sentences[:50]:  # cap per record
                sl = len(s.split())
                if sl >= 2: stats["sentence_lengths"].append(sl)
                stats["connector_counts"].update(count_connectors(s))
                first = s.split()[0] if s.split() else ""
                first_norm = normalize_ar(first)
                if first_norm and AR_LETTER.search(first_norm):
                    stats["sent_initial_tokens"][first_norm] += 1

            # Tashkeel ratio (diacritics / arabic letters)
            ar_letters = len(AR_LETTER.findall(text))
            diacs = len(re.findall(r'[ً-ٟ]', text))
            if ar_letters > 100:
                stats["tashkeel_ratio_sum"] += diacs / ar_letters
                stats["tashkeel_ratio_n"] += 1

            overall["n_records"] += 1
            if overall["n_records"] % 10000 == 0:
                elapsed = int(time.time() - start)
                print(f"  [{overall['n_records']:>7}] {elapsed}s — cats={len(cat_stats)}", flush=True)

    # Summarize
    print(f"\n[mine] summarizing {overall['n_records']} records across {len(cat_stats)} categories", flush=True)
    summary = {
        "input": str(args.input),
        "sample_size": overall["n_records"],
        "skipped": overall["n_skipped"],
        "elapsed_s": round(time.time() - start, 1),
        "categories": {},
        "global_top_connectors": Counter(),
        "global_top_sent_initial": Counter(),
    }
    for cat, st in cat_stats.items():
        if not st["sentence_lengths"]: continue
        sls = st["sentence_lengths"]
        mean_sl = sum(sls) / len(sls)
        var = sum((l - mean_sl) ** 2 for l in sls) / len(sls)
        stddev = var ** 0.5
        burstiness = stddev / mean_sl if mean_sl else 0
        # Histogram bins
        bins = {"1-5": 0, "6-10": 0, "11-15": 0, "16-20": 0, "21-30": 0, "31-50": 0, "51+": 0}
        for l in sls:
            if l <= 5: bins["1-5"] += 1
            elif l <= 10: bins["6-10"] += 1
            elif l <= 15: bins["11-15"] += 1
            elif l <= 20: bins["16-20"] += 1
            elif l <= 30: bins["21-30"] += 1
            elif l <= 50: bins["31-50"] += 1
            else: bins["51+"] += 1
        total = sum(bins.values()) or 1
        bins_pct = {k: round(v * 100 / total, 1) for k, v in bins.items()}

        summary["categories"][cat] = {
            "n_records": st["n_records"],
            "n_sentences": st["n_sentences"],
            "n_tokens": st["n_tokens"],
            "mean_sentence_length": round(mean_sl, 2),
            "stddev_sentence_length": round(stddev, 2),
            "burstiness": round(burstiness, 3),
            "sentence_length_histogram_pct": bins_pct,
            "top_connectors": st["connector_counts"].most_common(30),
            "top_sent_initial_tokens": st["sent_initial_tokens"].most_common(30),
            "mean_tashkeel_ratio": round(st["tashkeel_ratio_sum"] / max(1, st["tashkeel_ratio_n"]), 4),
        }
        summary["global_top_connectors"].update(st["connector_counts"])
        summary["global_top_sent_initial"].update(st["sent_initial_tokens"])

    summary["global_top_connectors"] = summary["global_top_connectors"].most_common(50)
    summary["global_top_sent_initial"] = summary["global_top_sent_initial"].most_common(50)

    args.out.parent.mkdir(parents=True, exist_ok=True)
    args.out.write_text(json.dumps(summary, ensure_ascii=False, indent=2), encoding="utf-8")
    print(f"[mine] DONE — {args.out}", flush=True)
    print(f"[mine] categories: {list(summary['categories'].keys())}", flush=True)


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/scripts/humanize_v2.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Main humanizer pipeline — multi-pass transformation for Arabic AI text.

Modes:
  lex-only     — deterministic lexical pipeline only (~1s, no LLM)
  +cognitive   — lexical + LLM cognitive pass (dimensions 1-8)
  +rhetorical  — lexical + cognitive + rhetorical (dimensions 9-13)
  full         — all passes including final coherence

LLM backends: 'api' (any OpenAI-compatible cloud endpoint, configured via
LLM_API_URL/LLM_API_KEY/LLM_MODEL) or 'local' (Ollama by default).
On backend failure (or when LLM_API_URL is unset for --mode > lex-only):
gracefully degrade to lex-only with warning.

Usage:
    python humanize_v2.py --input "نص" --mode lex-only          # no API needed
    LLM_API_URL=https://api.openai.com/v1/chat/completions \
    LLM_API_KEY=sk-... LLM_MODEL=gpt-4o-mini \
    python humanize_v2.py --file in.txt --mode +cognitive --output out.txt --analyze
"""
from __future__ import annotations
import argparse, json, random, re, sys, time
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

sys.path.insert(0, str(Path(__file__).parent))
from analyze_deep import analyze, render_report

# Import the LLM wrapper lazily (only when --mode > lex-only)


# ── Inherited lexical patterns (Arabic only — see reference 13) ─────────────

AI_PHRASES_AR = {
    # ── PRO-DROP / DELETE-DON'T-SUBSTITUTE entries (per cross-LLM
    # critique) ──
    # Arabic prefers implicit subjects (الضمير المُستتر). For "fluff verbs"
    # that add no meaning, DELETION is grammatically cleaner than
    # substitution. The empty string "" is a valid replacement here; the
    # cleanup_orphans pass will handle the trailing whitespace/punctuation.
    # NOTE: only for phrases whose deletion leaves a grammatical clause.
    # Phrases that end with "أن" still need a clausal replacement (above).
    "من المهم ملاحظة أنه":  ["", "ينبغي تذكُّر أن"],   # safe to delete
    "ولا بد من الإشارة هنا إلى أنه": ["", "نشير هنا إلى أن"],
    "في الواقع":             ["", "حقيقةً"],
    "في الحقيقة":            ["", "حقيقةً"],
    "لا شك أن":              ["", "بلا شك"],
    "بكل تأكيد":             [""],
    "في الواقع والحقيقة":     [""],  # tautology — pure delete
    # ── CLAUSE-PRESERVING replacements (must retain "أن"/"أنّ") ──
    # Per ChatGPT-deep-research finding: when source ends with "أن" / "أنّ"
    # (clausal connector), replacement MUST also end with a clausal connector
    # or it produces ungrammatical output like "بوضوح القرار مناسب".
    # All entries below verified to preserve syntactic clausal context.
    "من المهم ملاحظة أن":  ["نشير إلى أن", "ثمة ما يستوجب التنبيه أن", "يلزم التنبيه إلى أن"],
    "من المهم ملاحظة":     ["نشير إلى", "يلزم التنبيه إلى"],  # bare form
    "من الجدير بالذكر أن": ["مما يُذكر أن", "ومما تجدر معرفته أن"],
    "من الجدير بالذكر":    ["ومما يُذكر", "وتجدر معرفة"],
    "من المفيد الإشارة إلى": ["ثمة ما يستحق الإشارة إلى", "نُشير إلى"],
    "في سياق متصل":         ["وفي صلة بذلك", "وعلى صعيد متصل"],
    "في نفس السياق":        ["وفي السياق ذاته", "وعلى الصعيد نفسه"],
    "علاوة على ذلك":        ["وفوق ذلك", "ويُضاف إلى ذلك"],
    "بالإضافة إلى ذلك":     ["ويُضاف إلى ذلك", "وفوق ذلك"],
    # ── ENGLISH-CALQUE → NATIVE-ARABIC replacements ──
    # AI translations often produce literal calques that read awkwardly in
    # Arabic. "خط أنابيب" (line of pipes) for English "pipeline" is the
    # canonical example — native Arabic uses "مسار عمل" (workflow / path-of-work).
    "خط أنابيب":           ["مسار عمل", "مسار العمل", "تسلسل العمل"],
    "خطّ أنابيب":          ["مسار عمل", "مسار العمل"],
    "خط الأنابيب":         ["مسار العمل", "تسلسل العمل"],
    "خطّ الأنابيب":         ["مسار العمل", "تسلسل العمل"],
    "من ناحية أخرى":        ["وعلى صعيد آخر", "وبالمقابل"],
    "على الجانب الآخر":     ["وعلى الصعيد المقابل", "وبالمقابل"],
    "في النهاية":           ["وفي الختام", "وفي نهاية المطاف"],
    "في البداية":           ["في المبتدأ", "بادئ الأمر"],
    "كما ذكر سابقاً":       ["كما تقدّم", "كما سبق ذكره"],
    "كما أسلفنا":           ["كما تقدّم", "وفي ضوء ما تقدّم"],
    "من الواضح أن":         ["لا يخفى أن", "من البديهي أن", "بات معلوماً أن"],
    "من المهم التأكيد على أن": ["نؤكد أن", "يجدر التأكيد على أن"],
    "لا بد من الإشارة إلى أن": ["مما يستلزم الإشارة إليه أن", "نشير إلى أن"],
    "في إطار":              ["ضمن", "في نطاق"],
    "على صعيد":             ["في مجال", "في إطار"],
    "في ظل":                ["مع وجود", "في وقت"],
    "بناءً على ما تقدم":     ["وبناءً عليه", "وعليه"],
    "جدير بالذكر أن":        ["مما يستحق الذكر أن", "نُشير إلى أن"],
    "من الممكن أن":          ["قد", "ربما"],
    "من المتوقع أن":         ["من المرجح أن", "من المنتظر أن"],
    "يشار إلى أن":           ["نشير إلى أن", "تجدر الإشارة إلى أن"],  # KEEP أن — broken before!
    "يُعتبر من":              ["يُعدّ من", "هو من"],
    "في هذا الإطار":         ["في هذا السياق", "ضمن هذا الإطار"],
    # ── Newsroom AI-tells (from cross-LLM critique, journalist Finding 4) ──
    # 8 patterns the lex layer was missing for news register:
    "في تطور لافت":              ["في تطوّر", ""],
    "في تطور مثير":              ["في تطوّر", ""],
    "في خطوة لافتة":             ["في خطوة", ""],
    "وفي سياق متصل":             ["كذلك", "أيضاً"],
    "وضع معقّد ومتشابك":         ["وضع معقّد"],
    "وضع صعب ومعقّد":            ["وضع صعب"],
    "أزمة حادة ومستفحلة":        ["أزمة حادة"],
    "حسب ما أفادت مصادر":        ["حسب مصادر", ""],
    "قالت مصادر مطلعة":          ["حسب مصادر", "حسب مصدر"],
    "الخبراء والمراقبون":        ["المراقبون"],
    "المحللون والمراقبون":       ["المراقبون"],
    "كثير من الخبراء يرون":      ["خبراء يرون", ""],
    "العديد من المراقبين":       ["مراقبون", ""],
    "ومن المتوقع أن يَ":         ["وقد يَ", "ربما يَ"],
    "كما تَواجه":                ["وتواجه"],
    "كما يُتوقع":                ["ويُتوقع"],
    # ── Gap A (from references/13): missed AI lead-ins ─────────────────────
    "تجدر الإشارة إلى أنّ": ["يُذكر أنّ", "والحقيقة أنّ", ""],
    "تجدر الإشارة إلى أن":  ["يُذكر أن",  "والحقيقة أن",  ""],
    "في هذا الصدد":         ["هنا", "بصدد ذلك", ""],
    "من هذا المنطلق":       ["من هنا", "لذلك"],
    "على هذا الأساس":       ["بناءً على ذلك", "لذلك"],
    "لا شك أنّ":            ["بلا شك", ""],
    "لا شك أن":             ["بلا شك", ""],
    "من المعروف أنّ":       ["المعروف أنّ", ""],
    "من المعروف أن":        ["المعروف أن",  ""],
    "كما هو معلوم":         ["المعلوم أنّ", ""],
    "في حقيقة الأمر":       ["في الحقيقة"],
    "لا يخفى على أحد":      ["الواضح أنّ"],
    "تجدر الإشارة كذلك":    ["كذلك", "يُضاف"],
}

CONNECTORS_AR = [
    ("وعلاوة على ذلك،", "كما أن،"),
    ("ومع ذلك،", "لكن،"),
    ("وبالتالي،", "لذلك،"),
    ("وبناءً عليه،", "لذلك،"),
    ("على سبيل المثال،", "مثلاً،"),
    ("في المقابل،", "بالمقابل،"),
    ("على العكس من ذلك،", "بعكس ذلك،"),
    ("باختصار،", "بشكل مختصر،"),
    # ── Gap B (from references/13): missed AI connectors ──────────────────
    ("فضلاً عن ذلك،",       "كذلك،"),
    ("إضافة إلى ذلك،",      "كذلك،"),
    ("من جهة أخرى،",        "بالمقابل،"),
    ("من جانب آخر،",        "بالمقابل،"),
    ("بصورة عامة،",         "عموماً،"),
    ("بشكل عام،",           "عموماً،"),
    ("بشكل خاص،",           "خصوصاً،"),
    ("في الواقع،",          "فعلاً،"),
    ("في حين أنّ",          "بينما"),
    ("في حين أن",           "بينما"),
    ("على الرغم من ذلك،",   "رغم ذلك،"),
    ("نتيجة لذلك،",         "لذلك،"),
    ("استناداً إلى ذلك،",   "بناءً عليه،"),
    ("تبعاً لذلك،",         "لذلك،"),
]

REPETITIVE_STARTERS_AR = [
    "تعتبر", "تُعتبر", "يُعتبر", "تعد", "يُعد", "تُعد",
    "يمكن", "تستطيع", "نستطيع", "يعتبر", "يعد",
]

# ── Gap C (from references/13): AI structural openers → active rephrasings ──
# Fix #5/bug-1 (comp-linguist): `\S+` doesn't span two-word compounds like
# "الذكاء الاصطناعي". Switched to `([ء-ي\s]{1,40}?)` — Arabic-letters-or-spaces,
# bounded length, lazy match, so "يلعب الذكاء الاصطناعي دوراً" now matches.
STRUCTURAL_OPENERS_AR = [
    (r"يلعب ([ء-ي\s]{1,40}?) دوراً",       ["{0} يحدّد", "{0} يُشكّل", "{0} يَصنع"]),
    (r"يشكّل ([ء-ي\s]{1,40}?) عاملاً",     ["{0} هو السبب الرئيسي", "{0} يُحدِّد"]),
    (r"يمثّل ([ء-ي\s]{1,40}?) جزءاً",      ["{0} هو", "{0} يُعدّ"]),
    (r"يكمن ([ء-ي\s]{1,40}?) في",          ["السبب", "ها هو السبب"]),
    (r"تنبع ([ء-ي\s]{1,40}?) من",          ["يَأتي من", "أصلها"]),
    (r"تتمثّل ([ء-ي\s]{1,40}?) في",        ["هي:", "تَتلخّص في"]),
    (r"تكتسب ([ء-ي\s]{1,40}?) أهمية",      ["تُهمّ", "حاسمة"]),
    (r"تواجه ([ء-ي\s]{1,40}?) تحديات",     ["أمام {0} تحديات", "{0} يَتعثّر في"]),
    (r"تشهد ([ء-ي\s]{1,40}?) تطوراً",      ["{0} يَتطوّر"]),
    (r"تسعى ([ء-ي\s]{1,40}?) إلى",         ["{0} تُريد", "{0} تَطمح إلى"]),
]

# ── Gap D (from references/13): news-register quote-verb rotation ──
QUOTE_VERBS_ROTATION = {
    "قال":   ["أكّد", "أشار", "أوضح", "أضاف", "صرّح", "ذكر", "نوّه", "لفت"],
    "يقول":  ["يَرى", "يَعتقد", "يَزعم", "يُقرّر", "يُؤكّد"],
    "ذكر أن": ["أفاد بأنّ", "أشار إلى أنّ", "لفت إلى أنّ", "كشف أنّ"],
    "ذكر أنّ": ["أفاد بأنّ", "أشار إلى أنّ", "لفت إلى أنّ", "كشف أنّ"],
}

# ── Gap G (from references/13): redundant intensifier stacks ──
INTENSIFIER_DESTACK = [
    # (pattern_regex, replacement)
    (r"في غاية الأهمية البالغة(?:\s+جداً)?",  "بالغ الأهمية"),
    (r"بشكل كبير جداً",                       "كثيراً"),
    (r"بصورة ملحوظة وواضحة",                  "بوضوح"),
    (r"بشكل واضح وملحوظ",                     "بوضوح"),
    (r"بصورة كاملة وشاملة",                   "بشكل كامل"),
    (r"بشكل تام ومطلق",                       "تماماً"),
    (r"للغاية\s+جداً",                        "للغاية"),
    (r"جداً\s+جداً",                          "جداً"),
]

# ── Dim 14: Reader respect — DELETION operations ──
# See references/14-reader-respect.md
# (a) Tautological affirmation: triplet adjective stacks meaning the same
TAUTOLOGY_DELETE = [
    # (pattern_regex, replacement_or_empty)
    (r"مؤكَّد\s+وحقيقي\s+وثابت",      "مؤكَّد"),
    (r"مؤكد\s+وحقيقي\s+وثابت",        "مؤكد"),
    (r"حقيقي\s+ومؤكَّد\s+وثابت",      "ثابت"),
    (r"واقعي\s+ومؤكَّد",              "ثابت"),
    (r"ثابت\s+وراسخ",                  "راسخ"),
    (r"واضح\s+وجَلِيّ",                "واضح"),
    (r"واضح\s+وجلي",                   "واضح"),
    (r"معلوم\s+ومعروف",                "معروف"),
    (r"بدِيهي\s+ومعلوم",               "بدِيهي"),
    (r"وهذا\s+أمر\s+مؤكَّد",           ""),
    (r"وهذا\s+أمر\s+مؤكد",             ""),
    (r"وهذا\s+حقيقة",                  ""),
    (r"بلا\s+شك\s+ولا\s+ريب",          "بلا شك"),
    (r"وهذا\s+واضح\s+وجَلِيّ",         ""),
    (r"وهذا\s+واضح\s+وجلي",            ""),
    (r"ولا\s+يخفى\s+على\s+أحد",        ""),
    (r"كما\s+هو\s+معلوم\s+ومعروف",     "كما هو معروف"),
]

# (b) Re-explanation: "أي بمعنى آخر" + the restatement that follows it.
# Conservative: delete the marker phrase but keep what follows (humanizer
# can't reliably detect that the following is redundant; the marker itself
# IS the AI tell).
RE_EXPLANATION_DELETE = [
    r"أي\s+بمعنى\s+آخر[،,]?",
    r"بمعنى\s+آخر[،,]?",
    r"وهذا\s+يعني\s+أنّ?",
    r"بعبارة\s+أخرى[،,]?",
    r"وبتعبير\s+آخر[،,]?",
    r"وبعبارة\s+أوضح[،,]?",
    r"بعبارة\s+أوضح[،,]?",
    r"ولتوضيح\s+ذلك\s+أكثر[،,]?",
    r"وحتى\s+تتّضح\s+الفكرة[،,]?",
    r"وحتى\s+تتضح\s+الفكرة[،,]?",
    r"ولزيادة\s+الإيضاح[،,]?",
    r"ولكي\s+يتّضح\s+المعنى[،,]?",
]

# (c) Forced conclusion: prefixes that draw the conclusion FOR the reader.
# Delete the prefix; the (often-obvious) conclusion that follows stands
# on its own. Patterns must absorb leading "و" AND the trailing pronoun
# suffix of "أنّه/أنّها/أنّهم" so we don't leave orphan "ه" in output.
# Pronoun-suffix group: (?:ه|ها|هم|هن|هما)?
FORCED_CONCLUSION_DELETE = [
    r"و?نستنتج\s+من\s+هذا\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"و?نَستنتج\s+من\s+هذا\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"و?نستنتج\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    # "يَدلّ على" — the "أنّ" is optional in Arabic; the pattern can be
    # "يَدلّ على ضَرورة X" (noun) or "يَدلّ على أنّ X" (clause). Match both.
    r"وهذا\s+يدل\s+على(?:\s+أنّ?(?:ه|ها|هم|هن|هما)?)?",
    r"وهذا\s+يَدلّ\s+على(?:\s+أنّ?(?:ه|ها|هم|هن|هما)?)?",
    r"ومن\s+هنا\s+نفهم\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"و?عليه\s+يتضح\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"و?عليه\s+يَتّضح\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"وهذا\s+برهان\s+قاطع\s+على\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"ومن\s+الواضح\s+إذن\s+أنّ?(?:ه|ها|هم|هن|هما)?",
    r"وبالتالي\s+نَخلص\s+إلى\s+أنّ?(?:ه|ها|هم|هن|هما)?",
]

# (d) Known-term definitions: "ونعني بـ X هو ..." — delete the gloss.
# Fix #5/bug-4 (comp-linguist): يُعرَّف has shadda which doesn't match يعرف.
# Solution: allow optional diacritics in the verb stems using [ً-ٟ]?
# and use Arabic-letter-or-space class for the captured term so multi-word
# terms like "الذكاء الاصطناعي" are captured.
KNOWN_TERM_DELETE = [
    r"ونعني\s+ب[ـِ]?\s*[ء-ي\s]{1,40}?\s+هو",
    r"والمقصود\s+ب[ـِ]?\s*[ء-ي\s]{1,40}?\s+(?:هو|أنّ?)",
    r"يُ?ع[ـَ]?رّ?[ـَّ]?ف\s+[ء-ي\s]{1,40}?\s+بأنّ?ه?",
    r"وَ?ي[ـُ]?ع[ـَ]?رّ?[ـَّ]?ف\s+[ء-ي\s]{1,40}?\s+بأنّ?ه?",
    # Bare undiacritized forms (post-normalization):
    r"يعرف\s+[ء-ي\s]{1,40}?\s+بأنه?",
    r"ويعرف\s+[ء-ي\s]{1,40}?\s+بأنه?",
]


# ── Lexical pass (inherited + cleaned) ──────────────────────────────────────

# ── Gap F: quoted-span suppression — protect content inside "..." and «...» ──
QUOTED_SPAN = re.compile(r'(?:"[^"]*"|«[^»]*»|\'[^\']*\')', re.DOTALL)


def _outside_quoted_spans(text: str):
    """Yield (start, end, is_quoted) segments so callers can skip in-quote text."""
    cursor = 0
    for m in QUOTED_SPAN.finditer(text):
        if m.start() > cursor:
            yield cursor, m.start(), False
        yield m.start(), m.end(), True
        cursor = m.end()
    if cursor < len(text):
        yield cursor, len(text), False


def _apply_outside_quotes(text: str, transform) -> str:
    """Apply transform(segment) only to non-quoted segments; preserve quoted spans verbatim."""
    out = []
    for s, e, is_q in _outside_quoted_spans(text):
        seg = text[s:e]
        out.append(seg if is_q else transform(seg))
    return "".join(out)


def lex_replace_phrases(text: str) -> str:
    def _replace(seg: str) -> str:
        for phrase, alts in AI_PHRASES_AR.items():
            if phrase not in seg: continue
            first = seg.find(phrase)
            choice = random.choice(alts)
            after = first + len(phrase)
            # When deletion picked (empty replacement), absorb the surrounding
            # whitespace + a trailing comma so we don't leave orphan punctuation.
            if choice == "":
                # Skip a trailing space + comma if present
                while after < len(seg) and seg[after] in " ،,":
                    after += 1
                # Also collapse the leading space before the phrase
                if first > 0 and seg[first - 1] == " ":
                    first -= 1
                # If we absorbed whitespace on BOTH sides we'd merge adjacent
                # words ("أن" + "يحتاج" → "أنيحتاج"). Insert a single space when
                # the deletion sits between two non-boundary characters; the
                # final re.sub(r'\s+', ' ') collapse normalizes any duplicates.
                if first > 0 and after < len(seg):
                    choice = " "
            seg = seg[:first] + choice + seg[after:]
        return seg
    return _apply_outside_quotes(text, _replace)


def lex_destack_intensifiers(text: str) -> str:
    """Gap G: collapse redundant intensifier stacks."""
    def _destack(seg: str) -> str:
        for pat, rep in INTENSIFIER_DESTACK:
            seg = re.sub(pat, rep, seg)
        return seg
    return _apply_outside_quotes(text, _destack)


def lex_dim14_anti_tautology(text: str) -> str:
    """Dim 14: collapse tautological adjective stacks (مؤكَّد وحقيقي وثابت → مؤكَّد)
    and delete redundant affirmation phrases (وهذا أمر مؤكَّد) entirely."""
    def _apply(seg: str) -> str:
        for pat, rep in TAUTOLOGY_DELETE:
            seg = re.sub(pat, rep, seg)
        return seg
    return _apply_outside_quotes(text, _apply)


def lex_dim14_anti_re_explanation(text: str) -> str:
    """Dim 14: delete 'أي بمعنى آخر' family — the re-explanation prefix is itself
    the AI tell. The text immediately following often IS the re-explanation;
    we keep it (user can edit) since automated deletion of the gloss requires
    semantic understanding the lex pass doesn't have."""
    def _apply(seg: str) -> str:
        for pat in RE_EXPLANATION_DELETE:
            seg = re.sub(pat, "", seg)
        return seg
    return _apply_outside_quotes(text, _apply)


def lex_dim14_anti_forced_conclusion(text: str) -> str:
    """Dim 14: delete prefixes that explicitly tell the reader 'here is the
    conclusion'. The conclusion remains, but now reads as an assertion the
    reader is invited to verify rather than a verdict pre-chewed."""
    def _apply(seg: str) -> str:
        for pat in FORCED_CONCLUSION_DELETE:
            seg = re.sub(pat, "", seg)
        return seg
    return _apply_outside_quotes(text, _apply)


def lex_dim14_anti_known_definitions(text: str) -> str:
    """Dim 14: delete 'ونعني بـ X هو ...' definitional intros for terms the
    audience knows. Conservative: only deletes the marker phrase; the
    definition itself may remain (calling layer can decide to drop it)."""
    def _apply(seg: str) -> str:
        for pat in KNOWN_TERM_DELETE:
            seg = re.sub(pat, "", seg)
        return seg
    return _apply_outside_quotes(text, _apply)


def lex_dim14_cleanup_orphans(text: str) -> str:
    """Dim 14: after deletions, clean up orphan punctuation and double commas.

    Per cross-LLM critique of the original research: when a fluff phrase is
    deleted, it can leave orphan periods like ". " between sentences.
    Strip those too.
    """
    # Collapse multiple spaces + orphan commas left by deletions
    text = re.sub(r'\s*،\s*،\s*', '، ', text)
    text = re.sub(r'\.\s*،', '.', text)
    text = re.sub(r'،\s*\.', '.', text)
    # Orphan periods (period followed only by space then end-of-string OR
    # period followed by space then another period) — from deleted "بكل تأكيد."
    text = re.sub(r'(?<=\.)\s*\.\s*', ' ', text)
    text = re.sub(r'^\s*\.\s*', '', text, flags=re.M)  # leading orphan period
    text = re.sub(r'^\s*،\s*', '', text, flags=re.M)
    text = re.sub(r'\s+', ' ', text).strip()
    return text


# ── Dim 15: Typography hygiene — runs LAST in the pipeline ──
# See references/15-typography-hygiene.md

# Pre-compiled regex for normalization passes
_URL_OR_PATH = re.compile(r'https?://\S+|/[\w./]+|\b\w+@\w+\.\w+')
_INLINE_CODE = re.compile(r'`[^`\n]+`')
_DECIMAL = re.compile(r'\b\d+\.\d+\b')


def _protect_spans(text: str) -> tuple[str, list[str]]:
    """Replace URLs / inline-code / decimals with placeholders so typography
    normalization doesn't break them. Returns (protected_text, originals)."""
    protected = []
    def _stash(match):
        protected.append(match.group(0))
        return f"\x00PROTECT{len(protected)-1}\x00"
    text = _URL_OR_PATH.sub(_stash, text)
    text = _INLINE_CODE.sub(_stash, text)
    text = _DECIMAL.sub(_stash, text)
    return text, protected


def _restore_spans(text: str, originals: list[str]) -> str:
    for i, orig in enumerate(originals):
        text = text.replace(f"\x00PROTECT{i}\x00", orig)
    return text


def typography_ar_en_spacing(text: str) -> str:
    """Rule 1: insert space between Arabic and Latin letters."""
    # Arabic followed by Latin → space between
    text = re.sub(r'([؀-ۿ])([A-Za-z])', r'\1 \2', text)
    # Latin followed by Arabic → space between
    text = re.sub(r'([A-Za-z])([؀-ۿ])', r'\1 \2', text)
    return text


def typography_latin_punct_to_arabic(text: str) -> str:
    """Rule 2: replace Latin , ; ? with Arabic ، ؛ ؟ when in Arabic context."""
    # Comma between Arabic words
    text = re.sub(r'([؀-ۿ])\s*,\s*([؀-ۿ])', r'\1، \2', text)
    text = re.sub(r'([؀-ۿ])\s*,\s*$', r'\1،', text, flags=re.M)
    # Semicolon between Arabic words
    text = re.sub(r'([؀-ۿ])\s*;\s*([؀-ۿ])', r'\1؛ \2', text)
    # Question mark at end of Arabic clause: detect by an Arabic-letter run
    # ending with `?` and no Latin letters between (so we don't false-positive
    # on English questions)
    def _qmark_replace(m):
        clause = m.group(0)
        if re.search(r'[A-Za-z]', clause):
            return clause  # English question, leave it
        return clause[:-1] + '؟'
    text = re.sub(r'[؀-ۿ][^.\n?]{0,200}\?', _qmark_replace, text)
    return text


def typography_punct_spacing(text: str) -> str:
    """Rule 3: ensure space after Arabic punctuation marks."""
    # Arabic comma directly followed by non-space → insert space
    text = re.sub(r'([،؛])(?=\S)', r'\1 ', text)
    # Arabic period (.) followed by Arabic letter without space → insert space.
    # Use Arabic-letter lookahead so we don't break decimals (handled by protect_spans).
    text = re.sub(r'\.(?=[؀-ۿ])', '. ', text)
    # Latin colon ":" between Arabic words without space — used commonly in
    # Arabic with no surrounding space; normalize to ": " for readability
    text = re.sub(r':(?=[؀-ۿ])', ': ', text)
    return text


def typography_paren_spacing(text: str) -> str:
    """Rule 4: pad ASCII parens around Latin/digit content in Arabic context,
    AND ensure paren boundaries don't merge with adjacent Arabic letters."""
    # ( followed by Latin letter or digit → ( + space + content
    text = re.sub(r'\(([A-Za-z0-9])', r'( \1', text)
    # Latin letter or digit followed by ) → content + space + )
    text = re.sub(r'([A-Za-z0-9])\)', r'\1 )', text)
    # Closing paren followed by Arabic letter → ) + space
    text = re.sub(r'\)([؀-ۿ])', r') \1', text)
    # Arabic letter followed by opening paren → letter + space + (
    text = re.sub(r'([؀-ۿ])\(', r'\1 (', text)
    return text


def typography_normalize_numbering(text: str) -> str:
    """Rule 5: normalize line-leading list numbering to `N. ` style."""
    # `(1)` at line-start → `1. `
    text = re.sub(r'(?m)^(\s*)\((\d+)\)\s*', r'\1\2. ', text)
    # `1-` at line-start → `1. ` (but only when not followed by another digit, to
    # avoid converting date-like 2024-05)
    text = re.sub(r'(?m)^(\s*)(\d+)-(?=\s)', r'\1\2.', text)
    return text


# ── Mode "enrich": targeted marker insertion to lift low-scoring dimensions ──
# Per cross-LLM critique: regex-based MARKER INSERTION is risky for high-craft
# dimensions (jinas, historical analogy, metaphor — all need semantic
# understanding). enrich ONLY targets the regex-detectable additive dims:
#   1 (deduction/reasoning), 4 (analysis), 5 (graduated), 6 (scope),
#   7 (transitions), 8 (axes), 13 (coherence/citation).
# Dims 10 (historical), 11 (imagination), 12 (rhetoric) NEED LLM augmentation.
# Cap: at most 3 enrichments per text — avoids the "mannerism by accumulation"
# failure mode that classical-stylist and senior-editor critiques flagged.

ENRICHMENT_INSERTS = {
    1: {"insertion": "إذ ", "where": "before_2nd_sentence",
        "rationale": "Inserts 'إذ' (reasoning marker) — lifts deduction/inference dims."},
    4: {"insertion": "وبالمقارنة، ", "where": "before_3rd_sentence",
        "rationale": "Comparison marker — lifts human-analysis dim."},
    5: {"insertion": "بدايةً، ", "where": "prepend_first_sentence",
        "rationale": "Scaffolding opener — lifts graduated-explanation dim."},
    6: {"insertion": "في حدود ما يخصّ هذا الموضوع، ", "where": "prepend_first_sentence",
        "rationale": "Scope-definition marker."},
    7: {"insertion": " ومن جهة أخرى، ", "where": "between_2nd_3rd_sentence",
        "rationale": "Transition marker — lifts idea-transitions dim."},
    8: {"insertion": "أمّا الأول فـ", "where": "before_second_sentence_only_if_list_pattern",
        "rationale": "Partitioning marker — lifts axes-partitioning dim."},
    13: {"insertion": " وكما تَقدّم، ", "where": "before_last_sentence",
         "rationale": "Intra-text citation — lifts coherence dim."},
}


def _split_sentences_keepall(text: str) -> list[str]:
    """Split on ., !, ?, ؟, ؛ but keep the terminators attached to sentences."""
    parts = re.split(r'([.!?؟؛]+\s+)', text)
    sentences = []
    i = 0
    while i < len(parts):
        s = parts[i]
        if i + 1 < len(parts):
            s = s + parts[i + 1]
            i += 2
        else:
            i += 1
        if s.strip():
            sentences.append(s)
    return sentences


def lex_enrich(text: str, analyzer_result: dict, max_inserts: int = 3) -> tuple[str, list[dict]]:
    """Insert markers to lift low-scoring fixable dimensions.

    analyzer_result: output of analyze_deep.analyze(text)
    Returns: (enriched_text, list_of_insertions_applied)
    """
    # Pick lowest-scoring fixable dims (1, 4, 5, 6, 7, 8, 13)
    fixable = [d for d in (1, 4, 5, 6, 7, 8, 13)
               if analyzer_result["by_dimension"][d]["score"] < 8]
    fixable.sort(key=lambda d: analyzer_result["by_dimension"][d]["score"])
    targets = fixable[:max_inserts]

    sentences = _split_sentences_keepall(text)
    if len(sentences) < 2:
        return text, []  # too short to enrich safely

    applied = []
    for dim in targets:
        spec = ENRICHMENT_INSERTS[dim]
        where = spec["where"]
        insertion = spec["insertion"]
        if where == "prepend_first_sentence":
            sentences[0] = insertion + sentences[0]
        elif where == "before_2nd_sentence" and len(sentences) >= 2:
            sentences[1] = insertion + sentences[1]
        elif where == "before_3rd_sentence" and len(sentences) >= 3:
            sentences[2] = insertion + sentences[2]
        elif where == "between_2nd_3rd_sentence" and len(sentences) >= 3:
            # Insert as a tiny clause before sentence 3
            sentences[2] = insertion.strip() + " " + sentences[2]
        elif where == "before_last_sentence" and len(sentences) >= 2:
            sentences[-1] = insertion + sentences[-1]
        elif where == "before_second_sentence_only_if_list_pattern":
            # Heuristic: if sentences 2+ look like a list (start with similar
            # structure), apply أمّا الأول فـ. Skip if not.
            if len(sentences) >= 3:
                sentences[1] = insertion + sentences[1]
        else:
            continue  # skip if no applicable position
        applied.append({"dim": dim, "insertion": insertion, "rationale": spec["rationale"]})

    return " ".join(s.strip() for s in sentences), applied


def lex_dim15_typography(text: str) -> str:
    """Dim 15: apply all five typography rules with URL/code/decimal protection."""
    text, protected = _protect_spans(text)
    text = typography_ar_en_spacing(text)
    text = typography_latin_punct_to_arabic(text)
    text = typography_punct_spacing(text)
    text = typography_paren_spacing(text)
    text = typography_normalize_numbering(text)
    # Collapse any double-spaces introduced
    text = re.sub(r'  +', ' ', text)
    text = _restore_spans(text, protected)
    return text


def lex_rotate_quote_verbs(text: str, prob: float = 0.6) -> str:
    """Gap D: rotate news-register quote verbs.
    Use Arabic-aware boundaries — `\\b` matches inside Arabic words (e.g., 'ذكر'
    inside 'يُذكر') because Python regex word-boundary is ASCII-only.
    """
    # Arabic letter class (letters only, NOT diacritics — diacritics shouldn't
    # break a word-boundary either, but the safer approach is to require that
    # the verb be preceded by start-of-segment or whitespace).
    AR_LETTER_CLASS = r'[ء-ي]'  # Arabic letters
    def _rotate(seg: str) -> str:
        for verb, alts in QUOTE_VERBS_ROTATION.items():
            # (?<![Arabic letter or diacritic])verb(?=whitespace + name | :)
            # Require: NOT preceded by an Arabic letter (so 'يُذكر' won't match for verb='ذكر')
            # AND followed by whitespace + name OR by ':' / '"' / '«'
            pattern = re.compile(
                rf'(?<!{AR_LETTER_CLASS})(?<![ً-ٰٟـ]){re.escape(verb)}'
                rf'(?=\s+{AR_LETTER_CLASS}|\s*[:"«])'
            )
            def _sub(m):
                if random.random() < prob:
                    return random.choice(alts)
                return m.group(0)
            seg = pattern.sub(_sub, seg)
        return seg
    return _apply_outside_quotes(text, _rotate)


def lex_break_structural_openers(text: str) -> str:
    """Gap C: replace AI's noun-frame structural openers with active alternatives."""
    def _break(seg: str) -> str:
        for pat, alts in STRUCTURAL_OPENERS_AR:
            if random.random() < 0.5:
                def _sub(m):
                    alt = random.choice(alts)
                    if "{0}" in alt and m.lastindex:
                        return alt.format(m.group(1))
                    return alt
                seg = re.sub(pat, _sub, seg, count=1)
        return seg
    return _apply_outside_quotes(text, _break)


def lex_replace_connectors(text: str) -> str:
    for formal, natural in CONNECTORS_AR:
        if random.random() < 0.7:
            text = text.replace(formal, natural, 1)
    return text


def lex_diversify_starters(text: str) -> str:
    """Break consecutive sentences starting with same repetitive starter."""
    sentences = re.split(r'(?<=[.!؟])\s+', text)
    if len(sentences) < 3: return text
    out = []
    last_starter = None
    for s in sentences:
        s = s.strip()
        if not s: continue
        match = None
        for st in REPETITIVE_STARTERS_AR:
            if s.startswith(st):
                match = st
                break
        if match and match == last_starter and random.random() < 0.5:
            # Replace with pronoun start
            s = re.sub(rf'^{re.escape(match)}\s*',
                       random.choice(["فهي ", "وهي ", "إنها ", "كما أنها "]),
                       s)
        last_starter = match
        out.append(s)
    return ' '.join(out)


def lex_break_lists(text: str) -> str:
    """Replace mechanical numbered transitions occasionally."""
    text = re.sub(r'\bأولاً،\s*',
                  lambda m: random.choice(['في البداية، ', 'لنبدأ بـ ', 'أولاً، ']),
                  text)
    text = re.sub(r'\bثانياً،\s*',
                  lambda m: random.choice(['بعد ذلك، ', 'يلي ذلك، ', 'ثانياً، ']),
                  text)
    text = re.sub(r'\bثالثاً،\s*',
                  lambda m: random.choice(['ثم، ', 'ولا يفوتنا، ', 'ثالثاً، ']),
                  text)
    text = re.sub(r'\bأخيراً،\s*',
                  lambda m: random.choice(['وفي الختام، ', 'وأخيراً، ', 'وآخر ذلك، ']),
                  text)
    return text


def lex_vary_lengths(text: str, intensity: float) -> str:
    """Split overly long sentences occasionally (intensity 0.0-1.0)."""
    sentences = re.split(r'(?<=[.!؟])\s+', text)
    out = []
    for s in sentences:
        s = s.strip()
        if not s: continue
        words = s.split()
        if len(words) > 30 and random.random() < intensity * 0.5:
            mid = len(words) // 2 + random.randint(-3, 3)
            first = ' '.join(words[:mid]).rstrip('،')
            second = ' '.join(words[mid:])
            out.append(first + '.')
            out.append(second)
        else:
            out.append(s)
    return ' '.join(out)


def lex_pass(text: str, intensity: float, register: str = "news",
             mode: str = "full") -> str:
    """Register-aware lex pass.

    register: classical | news | opinion | technical
      - news: SAFE default. Skip risky rotations + rhetorical figure injection.
        Tighten dim 14 (anti-redundancy) and dim 15 (typography) only.
      - opinion: full lex pass, allow quote-verb rotation, no jinas/saj
      - classical: everything enabled
      - technical: typography + non-redundancy ONLY (no rotation, no rhetoric)

    mode: full | tighten | lex-only
      - tighten: runs ONLY inverse-scored dims 14 + 15 (newsroom subediting)
      - lex-only: full lex but no LLM-augmented passes downstream
      - full: lex + (downstream LLM passes if available)
    """
    # ── Enrich mode: lex pass + targeted marker insertion for low-scoring dims
    # Caps at 3 insertions per text. Targets dims 1, 4, 5, 6, 7, 8, 13.
    # Dims 10, 11, 12 (historical/imagination/rhetoric) need LLM — skipped here.
    if mode == "enrich":
        # Early tashkeel reduction (news/opinion) ensures pattern matching in
        # lex_replace_phrases sees normalized text. No-op for classical/technical.
        text = lex_reduce_tashkeel(text, register=register)
        # First: full lex pass (deletions + phrase swaps etc.)
        text = lex_replace_phrases(text)
        # Calque dictionary (v2.3.0): English-calque -> natural-Arabic
        text = lex_apply_calque_dictionary(text, register=register)
        text = lex_replace_connectors(text)
        if register != "technical":
            text = lex_break_structural_openers(text)
        if register in ("opinion", "classical"):
            text = lex_rotate_quote_verbs(text)
        text = lex_destack_intensifiers(text)
        text = lex_dim14_anti_tautology(text)
        text = lex_dim14_anti_re_explanation(text)
        text = lex_dim14_anti_forced_conclusion(text)
        text = lex_dim14_anti_known_definitions(text)
        text = lex_dim14_cleanup_orphans(text)
        text = lex_diversify_starters(text)
        text = lex_break_lists(text)
        text = re.sub(r'\s+', ' ', text).strip()
        # NOW: analyze the cleaned text and enrich the weakest dims
        # (delayed import to avoid circular)
        sys.path.insert(0, str(Path(__file__).parent))
        from analyze_deep import analyze as _analyze
        diag = _analyze(text)
        text, applied = lex_enrich(text, diag, max_inserts=3)
        # Tashkeel reduction (news/opinion only)
        text = lex_reduce_tashkeel(text, register=register)
        # Apply typography normalization LAST (after enrichment)
        text = lex_dim15_typography(text)
        # Store the enrichment log in module-level for the caller to retrieve
        lex_pass._enrichments_applied = applied
        return text

    # ── Tighten mode: newsroom subediting. Removes AI tells; no additions.
    # Runs: AI-phrase deletion (the lex table), intensifier de-stack, all
    # dim 14 deletions, typography normalization. Skips: quote-verb rotation
    # (editorial-neutrality hazard), structural opener rewrites (changes
    # voice), sentence-length variance (changes pyramid structure), connector
    # swaps (changes argument flow).
    if mode == "tighten":
        # Early tashkeel reduction (news/opinion only) so phrase matching
        # sees normalized text. Classical/technical pass through unchanged.
        text = lex_reduce_tashkeel(text, register=register)
        text = lex_replace_phrases(text)              # Remove AI signature phrases
        # Calque dictionary (v2.3.0): English-calque -> natural-Arabic
        text = lex_apply_calque_dictionary(text, register=register)
        text = lex_destack_intensifiers(text)         # Collapse "صعب ومعقّد" etc.
        text = lex_dim14_anti_tautology(text)         # "مؤكَّد وحقيقي وثابت" → "مؤكَّد"
        text = lex_dim14_anti_re_explanation(text)    # Delete "أي بمعنى آخر"
        text = lex_dim14_anti_forced_conclusion(text) # Delete "نَستنتج من هذا"
        text = lex_dim14_anti_known_definitions(text) # Delete "ونعني بـ X هو"
        text = lex_dim14_cleanup_orphans(text)        # Clean up orphan punctuation
        text = re.sub(r'\s+', ' ', text).strip()
        # Tashkeel reduction (news/opinion only; classical/technical preserve)
        text = lex_reduce_tashkeel(text, register=register)
        text = lex_dim15_typography(text)             # Typography hygiene LAST
        return text

    # ── Standard pipeline with register gating ─────────────────────────────
    # Early tashkeel reduction (news/opinion) ensures phrase patterns match
    # normalized text. Classical/technical passes through unchanged.
    text = lex_reduce_tashkeel(text, register=register)
    text = lex_replace_phrases(text)             # Gap A: safe for all registers
    # Calque dictionary (v2.3.0): English-calque -> natural-Arabic
    text = lex_apply_calque_dictionary(text, register=register)
    text = lex_replace_connectors(text)          # Gap B: safe for all registers

    # Gap C (structural noun-frame openers): SKIP for technical (changes meaning)
    if register != "technical":
        text = lex_break_structural_openers(text)

    # Gap D (quote-verb rotation): EDITORIAL-SAFETY HAZARD.
    # قال→كشف implies the speaker was concealing something; قال→زعم flips
    # to hostile stance. Per ChatGPT-deep-research: "تَدوير أفعال القول
    # يُغيّر الحياد إلى موقف" — even in opinion/classical, this rotation
    # changes the source's editorial framing rather than just stylistic
    # variation. DISABLED BY DEFAULT — opt-in only via explicit env flag.
    import os
    if os.environ.get("HUMANIZER_ALLOW_QUOTE_ROTATION") == "1":
        text = lex_rotate_quote_verbs(text)

    text = lex_destack_intensifiers(text)        # Gap G: safe everywhere

    # ── Dim 14: Reader respect — safe for ALL registers ──
    text = lex_dim14_anti_tautology(text)
    text = lex_dim14_anti_re_explanation(text)
    text = lex_dim14_anti_forced_conclusion(text)
    text = lex_dim14_anti_known_definitions(text)
    text = lex_dim14_cleanup_orphans(text)

    # Diversification (pronoun substitution at sentence start) — per ChatGPT
    # research, this can create ungrammatical double-subject constructions
    # like "كما أنها المؤسسة مرنة". Only enable for registers where the
    # stylistic risk is acceptable (opinion/classical). Skip for news/technical.
    if register in ("opinion", "classical"):
        text = lex_diversify_starters(text)
    text = lex_break_lists(text)

    # Sentence-length variation: classical/opinion enjoy variance; news prefers
    # uniform pyramid; technical prefers uniform short.
    if register in ("classical", "opinion") and intensity > 0.3:
        text = lex_vary_lengths(text, intensity)

    text = re.sub(r'\s+', ' ', text).strip()
    # Tashkeel reduction (modern editorial convention): strip non-disambiguating
    # diacritics. Register-gated — classical preserves traditional tashkeel.
    text = lex_reduce_tashkeel(text, register=register)
    # Dim 15 typography ALWAYS last — safe for every register.
    text = lex_dim15_typography(text)
    return text


# ── Tashkeel reduction (hamza-safe, digit-safe) ─────────────────────────────

# Strict tashkeel range: ONLY the 9 canonical combining diacritics:
#   U+064B ً  tanween fatha     U+064F ُ  damma
#   U+064C ٌ  tanween damma     U+0650 ِ  kasra
#   U+064D ٍ  tanween kasra     U+0651 ّ  shadda
#   U+064E َ  fatha             U+0652 ْ  sukun
#                               U+0670 ٰ  superscript alef (alif khanjariya)
#
# DOES NOT TOUCH:
#   - Hamza letter forms (أ إ آ ء ؤ ئ ى) — distinct letters carrying meaning
#     (إن vs أن, إما vs أما, قرآن with madda, آلام, أحصنة, etc.)
#   - Arabic-Indic digits ٠١٢٣٤٥٦٧٨٩ (U+0660–U+0669)
#   - The combining maddah/hamza marks (U+0653–U+0655) which could damage
#     decomposed letter forms in non-NFC text
TASHKEEL_REDUCE_RE = re.compile(r'[ً-ْٰ]')

# Homograph whitelist: words whose tashkeel disambiguates a real ambiguity in
# the skill's domain. Empty by default; add entries only when the consonantal
# skeleton genuinely maps to multiple plausible lexemes in normal prose.
# Example future entries (not enabled yet — context usually resolves):
#   "بعد": "بُعْد",   # dimension (vs. بَعْد = after)
#   "علم": "عِلْم",   # knowledge (vs. عَلَم = flag, عَلِمَ = he knew)
TASHKEEL_KEEP_WHITELIST: dict[str, str] = {}


def lex_reduce_tashkeel(text: str, register: str = "news") -> str:
    """Reduce excessive tashkeel per modern Arabic editorial convention.

    Strips the 9 canonical combining diacritics (fatha/kasra/damma/tanween
    variants, shadda, sukun, superscript alef) — preserves hamza letter
    forms (أ إ آ ء ؤ ئ ى) and Arabic digits (٠-٩).

    Register-gated: the `classical` register preserves traditional tashkeel
    (matching classical-Arabic editorial convention); news/opinion/technical
    strip aggressively.

    The TASHKEEL_KEEP_WHITELIST allows specific homograph words to retain
    their tashkeel; currently empty (context-disambiguation suffices).
    """
    if register in ("classical", "technical"):
        # Classical: traditional Arabic editorial convention keeps tashkeel.
        # Technical: conservative-by-design — preserve every character of the
        # source. Tashkeel may carry meaning (تشكيل على الحرف disambiguates
        # homographs); strict technical writing keeps it.
        return text
    # Mask whitelisted words before stripping
    masked = text
    placeholders: dict[str, str] = {}
    for stripped, kept in TASHKEEL_KEEP_WHITELIST.items():
        marker = f"\x00WL{len(placeholders)}\x00"
        placeholders[marker] = kept
        masked = re.sub(rf"\b{re.escape(stripped)}\b", marker, masked)
    cleaned = TASHKEEL_REDUCE_RE.sub("", masked)
    for marker, kept in placeholders.items():
        cleaned = cleaned.replace(marker, kept)
    return cleaned


# ── Calque-translation dictionary (v2.3.0) ──────────────────────────────────

def _load_calque_dictionary() -> tuple[list[str], dict]:
    """Load corpus/calque-dictionary.json at module init.

    The dictionary captures English-calque -> natural-Arabic translation
    pairs validated against the AITNews corpus (and multi-LLM swarm).
    Source-of-truth lives in the JSON file so it can be audited/extended
    without touching code.

    Returns: (sorted_calque_keys, lookup_dict)
      - sorted_calque_keys: list of calque strings, sorted by length desc
        (longer phrases match first to avoid partial overlaps)
      - lookup_dict: {calque: {"natural": str, "alternatives": list,
                               "domain": str, "confidence": str}}
    """
    p = Path(__file__).resolve().parent.parent / "corpus" / "calque-dictionary.json"
    if not p.exists():
        return [], {}
    try:
        data = json.loads(p.read_text(encoding="utf-8"))
    except Exception:
        return [], {}
    lookup: dict[str, dict] = {}
    keys: list[str] = []
    for e in data.get("entries", []):
        calque = e.get("ai_default_calque", "").strip()
        natural = e.get("natural_arabic", "").strip()
        if not calque or not natural or calque == natural:
            continue
        lookup[calque] = {
            "natural": natural,
            "alternatives": e.get("alternatives", []),
            "domain": e.get("domain", "general"),
            "confidence": e.get("confidence", "medium"),
        }
        keys.append(calque)
    # Longer keys first so multi-word phrases match before single-word
    keys.sort(key=len, reverse=True)
    return keys, lookup


_CALQUE_KEYS, _CALQUE_LOOKUP = _load_calque_dictionary()


def lex_apply_calque_dictionary(text: str, register: str = "news") -> str:
    """Replace English-calque Arabic phrases with their natural-Arabic
    equivalents, per the calque-dictionary at corpus/calque-dictionary.json.

    Register-gated: only news/opinion (modern editorial registers) apply
    the substitution. classical/technical preserve the source verbatim
    because:
      - classical: traditional Arabic doesn't use English calques
      - technical: may use English borrowings intentionally; preserving
        the source's lexical choices avoids breaking precision

    The substitution operates outside quoted spans (via _apply_outside_quotes)
    to preserve direct citations.
    """
    if register in ("classical", "technical"):
        return text
    if not _CALQUE_KEYS:
        return text  # dictionary file missing or empty

    def _apply(segment: str) -> str:
        for key in _CALQUE_KEYS:
            natural = _CALQUE_LOOKUP[key]["natural"]
            # Double-ال fix: if input has "ال" + calque (with definite article)
            # AND the natural form ALSO starts with "ال", substitute the
            # ال+calque sequence with the natural form to avoid "الال..."
            if natural.startswith("ال") and ("ال" + key) in segment:
                segment = segment.replace("ال" + key, natural)
                continue
            if key in segment:
                segment = segment.replace(key, natural)
        return segment

    return _apply_outside_quotes(text, _apply)


# ── LLM-augmented passes ────────────────────────────────────────────────────

def llm_pass(text: str, pass_name: str, backend: str,
             auth_token: str | None = None, model: str | None = None,
             backend_url: str | None = None) -> tuple[str, dict]:
    """Call llm_transform.transform; return (new_text, info)."""
    from llm_transform import transform
    return transform(text, pass_name, backend=backend, auth_token=auth_token,
                     model=model, backend_url=backend_url)


# ── Pipeline ────────────────────────────────────────────────────────────────

def run_pipeline(text: str, mode: str, backend: str, intensity: float,
                 auth_token: str | None = None, register: str = "news",
                 model: str | None = None, backend_url: str | None = None) -> dict:
    log = []
    out = text

    # Stage 1: lexical (register-aware)
    t0 = time.time()
    out = lex_pass(out, intensity, register=register, mode=mode)
    log.append({"stage": f"lex({register},{mode})",
                "duration_s": round(time.time() - t0, 2),
                "ok": True, "delta_chars": len(out) - len(text)})

    # In "tighten" mode, lex pass is the complete pipeline.
    # No LLM-augmented passes — newsroom subediting wants deterministic + safe.
    if mode in ("lex-only", "tighten"):
        return {"output": out, "stages": log, "mode": mode, "register": register}

    # Stage 2: cognitive
    t0 = time.time()
    new, info = llm_pass(out, "cognitive", backend, auth_token, model, backend_url)
    log.append({"stage": "cognitive", "duration_s": info.get("duration_s"),
                "ok": info.get("ok"), "error": info.get("error"),
                "backend": info.get("backend")})
    if info.get("ok"):
        out = new
    if mode == "+cognitive":
        return {"output": out, "stages": log, "mode": mode}

    # Stage 3: rhetorical
    t0 = time.time()
    new, info = llm_pass(out, "rhetorical", backend, auth_token, model, backend_url)
    log.append({"stage": "rhetorical", "duration_s": info.get("duration_s"),
                "ok": info.get("ok"), "error": info.get("error")})
    if info.get("ok"):
        out = new
    if mode == "+rhetorical":
        return {"output": out, "stages": log, "mode": mode}

    # Stage 4: coherence (final pass — only in full mode)
    new, info = llm_pass(out, "coherence", backend, auth_token, model, backend_url)
    log.append({"stage": "coherence", "duration_s": info.get("duration_s"),
                "ok": info.get("ok"), "error": info.get("error")})
    if info.get("ok"):
        out = new
    return {"output": out, "stages": log, "mode": mode}


def main():
    ap = argparse.ArgumentParser(description="Arabic Humanizer v2")
    ap.add_argument("--input", "-i", help="Inline text")
    ap.add_argument("--file", "-f", type=Path, help="Read from file")
    ap.add_argument("--output", "-o", type=Path, help="Write to file")
    ap.add_argument("--mode", default="tighten",
                    choices=["lex-only", "tighten", "enrich", "+cognitive", "+rhetorical", "full"],
                    help="tighten=newsroom subediting (dims 14+15 + phrase delete); "
                         "lex-only=full deterministic lex; "
                         "enrich=lex+targeted marker insertion for low-scoring dims (max 3 inserts); "
                         "+cognitive/+rhetorical/full add LLM passes")
    ap.add_argument("--register", default="news",
                    choices=["classical", "news", "opinion", "technical"],
                    help="Target register — gates which transformations fire. "
                         "Default 'news' is SAFE; jinas/saj/quote-rotation only "
                         "enable for classical/opinion.")
    ap.add_argument("--llm-backend", default="api",
                    choices=["api", "local"],
                    help="'api' = any OpenAI-compatible cloud endpoint "
                         "(configure via LLM_API_URL/LLM_API_KEY/LLM_MODEL "
                         "env vars). 'local' = local Ollama by default.")
    ap.add_argument("--backend-url", help="Override LLM_API_URL for one invocation")
    ap.add_argument("--model", help="Override LLM_MODEL for one invocation")
    ap.add_argument("--auth-token", help="Override LLM_API_KEY for one invocation")
    ap.add_argument("--intensity", type=float, default=0.6)
    ap.add_argument("--preflight", action="store_true",
                    help="Run preflight_check.py before humanization. If HIGH-"
                         "severity findings present and --strict-preflight is set, "
                         "abort with code 2.")
    ap.add_argument("--strict-preflight", action="store_true",
                    help="Block humanization when preflight finds HIGH-severity "
                         "issues (factual/ethical/sourcing hazards).")
    ap.add_argument("--seed", type=int, help="Random seed for lex pass reproducibility")
    ap.add_argument("--analyze", "-a", action="store_true",
                    help="Show before/after analysis")
    ap.add_argument("--json", action="store_true", help="JSON output")
    args = ap.parse_args()

    if args.seed is not None:
        random.seed(args.seed)

    if args.file:
        text = args.file.read_text(encoding="utf-8")
    elif args.input:
        text = args.input
    else:
        text = sys.stdin.read()
    if not text.strip():
        raise SystemExit("empty input")

    # ── Preflight check (per ChatGPT deep research — documented but was not
    # wired into CLI). Now properly integrated.
    if args.preflight:
        sys.path.insert(0, str(Path(__file__).parent))
        from preflight_check import check as _preflight
        pf = _preflight(text)
        print(f"[preflight] verdict={pf['verdict']}  "
              f"findings={pf['n_findings']} "
              f"(HIGH={pf['n_high']}, MEDIUM={pf['n_medium']}, LOW={pf['n_low']})",
              file=sys.stderr)
        for f in pf["findings"]:
            print(f"  [{f['severity']}] {f['category']}: \"{f['text'][:60]}\"",
                  file=sys.stderr)
        if args.strict_preflight and pf["verdict"] == "BLOCK":
            print("[preflight] BLOCKED by --strict-preflight. Aborting humanization.",
                  file=sys.stderr)
            sys.exit(2)

    before = analyze(text) if args.analyze else None
    result = run_pipeline(text, args.mode, args.llm_backend, args.intensity,
                          args.auth_token, register=args.register,
                          model=args.model, backend_url=args.backend_url)
    after = analyze(result["output"]) if args.analyze else None

    if args.output:
        args.output.write_text(result["output"], encoding="utf-8")
        print(f"[OK] wrote {args.output}", file=sys.stderr)
    elif not args.json:
        print(result["output"])

    if args.json:
        payload = {"result": result}
        if before is not None: payload["before"] = before
        if after is not None: payload["after"] = after
        print(json.dumps(payload, ensure_ascii=False, indent=2))
    elif args.analyze:
        print("\n" + render_report(before), file=sys.stderr)
        print("\n" + render_report(after), file=sys.stderr)
        delta = after["overall_humanness_0_100"] - before["overall_humanness_0_100"]
        print(f"\n[Δ humanness: {delta:+.1f}]", file=sys.stderr)
        for stage in result["stages"]:
            mark = "✓" if stage.get("ok") else "✗"
            print(f"  {mark} {stage['stage']:<12} {stage.get('duration_s','?')}s"
                  f"{'  ERROR: ' + str(stage.get('error', ''))[:80] if not stage.get('ok') else ''}",
                  file=sys.stderr)


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/evals/golden_cases.json

`````json
{
  "$schema_version": "1.0",
  "$description": "Arabic Humanizer — Golden Test Suite. Each case has explicit pre/post-conditions, register, mode, and expected behavior. Derived from cross-LLM critiques of the actual bugs the framework has historically had.",
  "$rationale": "Regression-test the bugs we fixed so they don't reappear. Each case explicitly states which of the 5 priorities (meaning > naturalness > register > economy > anti-translationese) it tests.",

  "cases": [
    {
      "id": "clause-1-من-الواضح-أن",
      "category": "clause_preserving_substitution",
      "tests_priority": ["meaning_preservation", "syntactic_naturalness"],
      "input": "من الواضح أن القرار مناسب.",
      "must_contain_after_tighten_news": ["أن"],
      "must_not_contain": ["بوضوح القرار"],
      "rationale_ar": "الاستبدال يجب أن يحافظ على 'أن' الموصولة بالجملة الاسمية التالية. 'بوضوح القرار' كسرٌ نحويّ."
    },
    {
      "id": "clause-2-من-المهم-ملاحظة-أن",
      "category": "clause_preserving_substitution",
      "tests_priority": ["meaning_preservation", "syntactic_naturalness"],
      "input": "من المهم ملاحظة أن النظام يعمل جيداً.",
      "must_contain_after_tighten_news": ["أن"],
      "must_not_contain": ["للعلم النظام", "للعلم أن النظام يعمل جيداً"],
      "rationale_ar": "البديل المعجمي الأعمى السابق 'للعلم' كان يَكسر الجملة. الآن يَجب الإبقاء على 'أن'."
    },
    {
      "id": "clause-3-يشار-إلى-أن",
      "category": "clause_preserving_substitution",
      "tests_priority": ["meaning_preservation", "syntactic_naturalness"],
      "input": "يشار إلى أن السوق تغيّر.",
      "must_contain_after_tighten_news": ["أن", "السوق"],
      "must_not_contain": ["للعلم السوق"],
      "rationale_ar": "أ. الإبقاء على 'أن'. ب. عدم تحويل الجملة إلى تركيب 'للعلم السوق تغيّر' الذي حذَف الرابط."
    },
    {
      "id": "quote-verb-safety",
      "category": "editorial_safety",
      "tests_priority": ["meaning_preservation"],
      "input": "يقول الخبير إن النتائج إيجابية. قال المدير إن المشروع ناجح.",
      "must_contain_after_tighten_news": ["يقول", "قال"],
      "must_not_contain": ["يزعم", "كشف", "ادّعى", "اعترف"],
      "rationale_ar": "أفعال القول العدائية تَنقل النص من حياد إلى موقف. تَدوير افتراضي مَمنوع. opt-in فقط عبر env var."
    },
    {
      "id": "prodrop-fluff-deletion",
      "category": "pro_drop_deletion",
      "tests_priority": ["economy", "syntactic_naturalness"],
      "input": "في الواقع، النظام يعمل. بكل تأكيد. لا شك أن المستقبل قادم.",
      "must_not_contain": ["في الواقع،", "بكل تأكيد."],
      "must_contain_after_tighten_news": ["النظام يعمل", "المستقبل"],
      "rationale_ar": "الحَذف أفضل من الاستبدال للعبارات الحَشوية (نتيجة النقد المتعدد للنموذج). 'في الواقع' و'بكل تأكيد' حَشو بلا معنى يَضيع بالحذف."
    },
    {
      "id": "orphan-punctuation-cleanup",
      "category": "post_deletion_hygiene",
      "tests_priority": ["syntactic_naturalness"],
      "input": "النظام يعمل. بكل تأكيد. ولا بد من الإشارة هنا إلى أنه يجب التحرك.",
      "must_not_contain": [". .", " . "],
      "rationale_ar": "بعد حَذف 'بكل تأكيد' و'ولا بد من الإشارة هنا إلى أنه' يَنبغي ألا تَبقى نُقطة يَتيمة."
    },
    {
      "id": "typography-arabic-english-spacing",
      "category": "typography",
      "tests_priority": ["anti_translationese"],
      "input": "النموذجAI يَفهم السياق(LLM)بشكل سريع.",
      "must_contain_after_tighten_news": ["النموذج AI", "( LLM )"],
      "must_not_contain": ["النموذجAI", "(LLM)"],
      "rationale_ar": "Ar-En adjacency يَجب أن تَفصلها مسافة. الأقواس حول اللاتيني يَجب أن تَكون مُبَطَّنة بِمسافة."
    },
    {
      "id": "typography-arabic-punctuation",
      "category": "typography",
      "tests_priority": ["anti_translationese"],
      "input": "النظام يعمل, ويَتطوَّر, ويَنتشر.",
      "must_contain_after_tighten_news": ["،"],
      "must_not_contain": ["النظام يعمل,", "يَتطوَّر,"],
      "rationale_ar": "الفاصلة اللاتينية بَين كَلمتَين عربيَّتَين يَجب أن تُحوَّل إلى '،'."
    },
    {
      "id": "preflight-blocks-loaded-generalization",
      "category": "preflight_safety",
      "tests_priority": ["meaning_preservation"],
      "input": "كل العرب يَدعمون هذه الخطوة.",
      "preflight_verdict": "BLOCK",
      "preflight_must_flag": ["loaded_group_generalization"],
      "rationale_ar": "تَعميم سَلبي على مَجموعة 'كل العرب' يُحَذِّر منه الـpreflight بِشَدة HIGH. لا يَجب أن نُحَسِّن النص قَبل التَنبيه."
    },
    {
      "id": "preflight-flags-anonymous-source",
      "category": "preflight_safety",
      "tests_priority": ["meaning_preservation"],
      "input": "قالت مصادر مطلعة لم تَكشف عن هويتها إن المشروع سيُلغى.",
      "preflight_verdict": "FLAG",
      "preflight_must_flag": ["anonymous_source_chain"],
      "rationale_ar": "سلسلة مصادر مَجهولة الهوية تَحتاج إلى تَحقُّق إنساني قَبل أن تُحَسَّن مَظهرياً."
    },
    {
      "id": "preflight-flags-pseudo-precision",
      "category": "preflight_safety",
      "tests_priority": ["meaning_preservation"],
      "input": "نحو 73% من القطاعات ستستفيد من التقنية.",
      "preflight_verdict": "FLAG",
      "preflight_must_flag": ["pseudo_precision"],
      "rationale_ar": "أرقام تَقديريّة بِلا مَصدر تَحتاج إلى تَحقُّق."
    },
    {
      "id": "register-news-no-rhetorical",
      "category": "register_gating",
      "tests_priority": ["register_fit"],
      "input": "النظام يَتطوَّر بِسُرعة. الشركات تَتَبَنّى التقنية.",
      "register": "news",
      "must_not_contain_in_output": ["سَجع", "جِناس", "بَلَغ السَّيل الزُّبى"],
      "rationale_ar": "الـnews register يَمنع المُحَسِّنات البلاغية مثل السَّجع والجِناس. تَطبيقها في خَبر = أَمَاتورية."
    },
    {
      "id": "register-technical-no-structural-rewrites",
      "category": "register_gating",
      "tests_priority": ["register_fit", "meaning_preservation"],
      "input": "يلعب الذكاء الاصطناعي دوراً مهماً في المعالجة.",
      "register": "technical",
      "must_contain_after_lex_only_technical": ["دوراً مهماً"],
      "rationale_ar": "الـtechnical register يَتَجَنّب إعادة الكتابة الهيكلية. 'يلعب X دوراً' يَبقى كما هو في النص التقني."
    },
    {
      "id": "dim14-anti-tautology",
      "category": "reader_respect",
      "tests_priority": ["economy"],
      "input": "هذا أمر مؤكَّد وحقيقي وثابت. وَهذا واضح وجَلِيّ ولا شَكّ فيه.",
      "must_not_contain": ["مؤكَّد وحقيقي وثابت", "واضح وجَلِيّ ولا شَكّ"],
      "rationale_ar": "السلاسل التَّكاراريّة من المُرادفات (مُؤكَّد + حقيقي + ثابت) تُكَثَّف إلى كلمة واحدة."
    },
    {
      "id": "dim14-anti-forced-conclusion",
      "category": "reader_respect",
      "tests_priority": ["economy"],
      "input": "ارتفعت الأسعار. ونَستنتج من هذا أن المُستهلك سيَدفع أكثر. وهذا يَدلّ على ارتفاع تكلفة المعيشة.",
      "must_not_contain": ["ونَستنتج من هذا أن", "وهذا يَدلّ على"],
      "must_contain_after_tighten_news": ["المستهلك", "تكلفة المعيشة"],
      "rationale_ar": "ترك الاستنتاج للقارئ. الكاتب يَعرض الحَقائق المتجاورة وَالقارئ يَربط."
    },
    {
      "id": "dim16-monoculture-detection",
      "category": "junction_disjunction",
      "tests_priority": ["anti_translationese"],
      "input": "النظام مهم و التطور سريع و الشركات تَستخدم التقنية و المستقبل واعد و النتائج إيجابية.",
      "expected_dim16_score": 2,
      "expected_dim16_max": 15,
      "rationale_ar": "أحادية الرابط 'و' = بَصْمة AI. Dim 16 يُسَجِّل 2/15 على هذه."
    },
    {
      "id": "dim16-rich-distribution",
      "category": "junction_disjunction",
      "tests_priority": ["anti_translationese"],
      "input": "النظام مُهم؛ فالتقنية تَتطور بسرعة، ثم تَنتشر، بَيد أنّها تَواجه تحديات، إذ القاعدة كَبيرة، لكنّ هذا الخَطأ جُزء من النُّمو. وقد تَبدّلت الأَدوات، فَتَبَدَّلت معها الطُّرق، ثم تَبدّلت الغاية. بَيد أنّ الجوهر ثابت، إذ الإنسان واحد، وَالأَدوات تَتغير، لكنّ الفِطرة لا تَتبدّل.",
      "expected_dim16_score_min": 12,
      "expected_dim16_max": 15,
      "rationale_ar": "تَنَوُّع الروابط (؛، فـ، ثم، بَيد أن، إذ، لكنّ، و، وقد، أَنّ) عبر نص أَطول = إنتروبيا عالية، أكثر من 5 روابط مَطلوبة لِتَجاوُز عَتبة 'too few'."
    },
    {
      "id": "empty-input-graceful",
      "category": "edge_case",
      "tests_priority": ["robustness"],
      "input": "",
      "expected_exit": "graceful_error",
      "rationale_ar": "إدخال فارغ يَجب ألا يَكسر السكربت."
    },
    {
      "id": "single-sentence-short",
      "category": "edge_case",
      "tests_priority": ["robustness"],
      "input": "النظام يعمل.",
      "expected_no_crash": true,
      "expected_humanness_at_least": 5,
      "rationale_ar": "نَصّ قَصير جِدّاً يَجب ألا يَكسر التحليل. الـDim 16 يَرجع 8/15 (neutral للنَّصِّ القَصير)."
    },
    {
      "id": "gold-standard-classical",
      "category": "positive_recognition",
      "tests_priority": ["anti_translationese", "register_fit"],
      "input": "في حدود ما يخصّ علاقة الفِكر بِالتقنية، يَكفي أن نَتأمَّل ما جَرى في عَصرَين سابقَين لِنَستشِفّ ما يَجري في عَصرنا. بدايةً، نَستحضِر القرن السادس الهجري حين انتقل الفِكر العَربي من النَّقل إلى التَّحقيق على يَد ابن رشد، فَأنتَج ما لم يَكن مُتاحاً قَبله. أمّا الثاني، ففي القرن الثامن عشر الميلادي حين أَلِفَت أوروبا الآلة، فَتَحَوَّلت من زِراعة إلى صِناعة، إذ القاعدة الكَبيرة لا تَنشأ إلا بِأَدَوات كَبيرة. ومن جهة أخرى، كل تَحَوُّل تَقني سَبَقَه تَحَوُّل في الوَعي، لا العَكس. كَأَنّنا أَمام نَهر يَجري في مَجراه القَديم، لَكِنّ ماءَه أَسرَع. وَكَما تَقدّم، فالنَّمَط واحد، والإيقاع مُختلف. ولَعَلّ القارئ يَتذكر ما ذَكَرَه ابن خَلدون من أنّ الدُّوَل تَتَبَدّل في أَطوارٍ مُتَتالية. هكذا تَتَبَدّل التَّقَنيات.",
      "expected_humanness_at_least": 40,
      "rationale_ar": "النص الكلاسيكي المُتقن (الإصدار الكامل من الجَلسة، 150+ كلمة، يَحوي إسناداً تاريخياً وَاستعارة وَطباقاً وَتَنَوُّع روابط) يَجب أن يُسَجّل في النِّطاق المَقبول."
    }
  ]
}

`````

### File: arabic-ai-text-humanizer/evals/run_golden.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Golden test runner for Arabic Humanizer v2.

Loads evals/golden_cases.json, runs each case against the actual scripts,
verifies expected behavior. Reports PASS/FAIL with rationale.

Exit code: 0 if all pass, 1 if any fail.

Usage:
    python evals/run_golden.py
"""
from __future__ import annotations
import json, os, subprocess, sys, tempfile
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

SKILL_DIR = Path(__file__).resolve().parent.parent
SCRIPTS_DIR = SKILL_DIR / "scripts"
EVALS_DIR = SKILL_DIR / "evals"

CASES = json.loads((EVALS_DIR / "golden_cases.json").read_text(encoding="utf-8"))["cases"]


def run_humanize(text: str, mode: str = "tighten", register: str = "news",
                 extra_args: list[str] = None) -> tuple[str, int]:
    """Run humanize_v2.py and return (output_text, exit_code)."""
    extra_args = extra_args or []
    with tempfile.NamedTemporaryFile(mode="w", delete=False, encoding="utf-8",
                                       suffix=".txt") as tf:
        tf.write(text)
        in_path = tf.name
    out_path = in_path + ".out"
    try:
        cmd = [sys.executable, str(SCRIPTS_DIR / "humanize_v2.py"),
               "--file", in_path,
               "--mode", mode,
               "--register", register,
               "--seed", "42",
               "--output", out_path] + extra_args
        r = subprocess.run(cmd, capture_output=True, text=True,
                          encoding="utf-8", timeout=120)
        if Path(out_path).exists():
            output = Path(out_path).read_text(encoding="utf-8")
        else:
            output = ""
        return output, r.returncode
    finally:
        try: os.unlink(in_path)
        except: pass
        try: os.unlink(out_path)
        except: pass


def run_preflight(text: str) -> dict:
    """Run preflight_check.py and return the JSON result."""
    with tempfile.NamedTemporaryFile(mode="w", delete=False, encoding="utf-8",
                                       suffix=".txt") as tf:
        tf.write(text)
        in_path = tf.name
    try:
        r = subprocess.run(
            [sys.executable, str(SCRIPTS_DIR / "preflight_check.py"),
             "--file", in_path, "--json"],
            capture_output=True, text=True, encoding="utf-8", timeout=30
        )
        try:
            return json.loads(r.stdout)
        except Exception:
            return {"verdict": "ERROR", "n_findings": 0, "findings": [],
                    "raw": r.stdout[:200]}
    finally:
        try: os.unlink(in_path)
        except: pass


def run_analyze(text: str) -> dict:
    """Run analyze_deep.py and return JSON result."""
    with tempfile.NamedTemporaryFile(mode="w", delete=False, encoding="utf-8",
                                       suffix=".txt") as tf:
        tf.write(text)
        in_path = tf.name
    try:
        r = subprocess.run(
            [sys.executable, str(SCRIPTS_DIR / "analyze_deep.py"),
             "--file", in_path, "--json"],
            capture_output=True, text=True, encoding="utf-8", timeout=30
        )
        try:
            return json.loads(r.stdout)
        except Exception:
            return None
    finally:
        try: os.unlink(in_path)
        except: pass


def check_case(case: dict) -> dict:
    """Run a single case and return result with PASS/FAIL."""
    cid = case["id"]
    text = case["input"]
    register = case.get("register", "news")
    failures = []

    # Empty input handling
    if case["category"] == "edge_case" and case["id"] == "empty-input-graceful":
        out, code = run_humanize(text, mode="tighten", register="news")
        # Should exit gracefully — either succeed with empty or exit non-zero with message
        # But should NOT crash with traceback (we accept code != 0 as long as no traceback)
        return {"id": cid, "pass": True, "note": "graceful (empty handled)"}

    # Preflight cases
    if case["category"] == "preflight_safety":
        pf = run_preflight(text)
        expected_verdict = case.get("preflight_verdict")
        if expected_verdict and pf.get("verdict") != expected_verdict:
            failures.append(f"verdict={pf.get('verdict')!r}, expected={expected_verdict!r}")
        expected_flags = case.get("preflight_must_flag", [])
        actual_categories = {f["category"] for f in pf.get("findings", [])}
        for flag in expected_flags:
            if flag not in actual_categories:
                failures.append(f"missing flag: {flag} (got {sorted(actual_categories)})")
        return {"id": cid, "pass": not failures, "failures": failures,
                "verdict_got": pf.get("verdict")}

    # Dim 16 scoring cases
    if case["category"] == "junction_disjunction":
        a = run_analyze(text)
        if not a:
            return {"id": cid, "pass": False, "failures": ["analyzer failed"]}
        score = a["by_dimension"]["16"]["score"]
        expected_exact = case.get("expected_dim16_score")
        expected_min = case.get("expected_dim16_score_min")
        if expected_exact is not None and score != expected_exact:
            failures.append(f"dim 16 score = {score}, expected exactly {expected_exact}")
        if expected_min is not None and score < expected_min:
            failures.append(f"dim 16 score = {score}, expected >= {expected_min}")
        return {"id": cid, "pass": not failures, "failures": failures, "score_got": score}

    # Humanness threshold
    if case["category"] == "positive_recognition":
        a = run_analyze(text)
        score = a.get("overall_humanness_0_100", 0) if a else 0
        threshold = case["expected_humanness_at_least"]
        if score < threshold:
            failures.append(f"humanness = {score}, expected >= {threshold}")
        return {"id": cid, "pass": not failures, "failures": failures, "score_got": score}

    # Short input no-crash
    if case["category"] == "edge_case":
        a = run_analyze(text)
        if not a:
            failures.append("analyzer crashed")
        return {"id": cid, "pass": not failures, "failures": failures}

    # General output checks (tighten + register)
    mode = "tighten"
    if case["category"] == "register_gating" and "lex_only" in case.get("id", ""):
        mode = "lex-only"

    out, code = run_humanize(text, mode=mode, register=register)
    if not out and code != 0:
        failures.append(f"humanizer exited code={code}")

    for must_contain in case.get("must_contain_after_tighten_news", []):
        if must_contain not in out:
            failures.append(f"missing required: {must_contain!r}")

    for must_contain in case.get("must_contain_after_lex_only_technical", []):
        out2, _ = run_humanize(text, mode="lex-only", register="technical")
        if must_contain not in out2:
            failures.append(f"missing required (lex-only/technical): {must_contain!r}")

    for must_not in case.get("must_not_contain", []):
        if must_not in out:
            failures.append(f"forbidden present: {must_not!r}")

    for must_not in case.get("must_not_contain_in_output", []):
        if must_not in out:
            failures.append(f"forbidden present: {must_not!r}")

    return {"id": cid, "pass": not failures, "failures": failures, "output": out[:200]}


def main():
    print(f"Running {len(CASES)} golden cases...\n")
    results = []
    for case in CASES:
        r = check_case(case)
        results.append(r)
        mark = "✓" if r["pass"] else "✗"
        cid = r["id"]
        print(f"  {mark} {cid:<45}", end="")
        if not r["pass"]:
            print(f"   FAIL")
            for f in r.get("failures", []):
                print(f"      - {f}")
        else:
            extra = ""
            if "score_got" in r: extra = f"  (score={r['score_got']})"
            if "verdict_got" in r: extra = f"  (verdict={r['verdict_got']})"
            print(f"   PASS{extra}")

    passes = sum(1 for r in results if r["pass"])
    fails = len(results) - passes
    print(f"\n{'='*60}")
    print(f"Total: {len(results)}  |  PASS: {passes}  |  FAIL: {fails}")
    print(f"{'='*60}")
    sys.exit(0 if fails == 0 else 1)


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/evals/test_known_fragility.py

`````python
#!/usr/bin/env python3
# -*- coding: utf-8 -*-
"""
Fragility regression tests — focused on the specific bug-classes that
cross-LLM critique surfaced. These complement the broader golden suite by
asserting (sometimes-counterintuitive) invariants about the lexical layer.

Run: python evals/test_known_fragility.py
Exit 0 on all-pass, non-zero on first failure.

What's covered (and why each test exists):
  T1 — clause-preserving substitution: "من الواضح أن X" must keep "أن" because
       the predicate clause depends on it. Naive lex-replace dropped it.
  T2 — pro-drop deletion: "في الواقع" and "بكل تأكيد" should DISAPPEAR (Arabic
       pro-drop prefers implicit subjects); naive substitution wrongly kept a
       filler word in place.
  T3 — quote-verb rotation default-OFF: قال and يقول must survive a default
       tighten/news run because hostile rotation (e.g. قال→يَزعم) shifts
       editorial stance, not just style.
  T4 — quote-verb rotation env-gate: setting HUMANIZER_ALLOW_QUOTE_ROTATION=1
       must enable the rotation (the gate has to actually work in both
       directions, not just be off by default).
  (T5 was a register-contrast test removed in v2.1 — it asserted that
   --register technical and --register opinion produce different outputs,
   but for tighten-mode benign input both registers legitimately do the
   same lexical work. Register's real differentiation happens in
   +cognitive/+rhetorical modes that need a live LLM, which this offline
   test environment can't exercise. Re-add when an LLM-mocked harness exists.)
  T6 — provider-agnostic guard: with no LLM_API_URL set, --mode +cognitive
       must NOT crash; it must gracefully degrade to lex-only with a clear
       error in the run log.
"""
from __future__ import annotations
import json, os, re, subprocess, sys, tempfile
from pathlib import Path

if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
    sys.stderr.reconfigure(encoding="utf-8")

SKILL_ROOT = Path(__file__).resolve().parent.parent
HUMANIZE = SKILL_ROOT / "scripts" / "humanize_v2.py"
PYEXE = sys.executable


def run_humanize(text: str, *args, env_overrides: dict | None = None) -> str:
    """Invoke humanize_v2.py with the given args. Returns stdout."""
    env = os.environ.copy()
    if env_overrides:
        env.update(env_overrides)
    with tempfile.NamedTemporaryFile("w", encoding="utf-8", suffix=".txt", delete=False) as inp:
        inp.write(text)
        inp_path = inp.name
    out_path = inp_path + ".out"
    try:
        cmd = [PYEXE, str(HUMANIZE), "--file", inp_path, "--output", out_path] + list(args)
        proc = subprocess.run(cmd, capture_output=True, text=True, env=env, timeout=60)
        if proc.returncode not in (0, 2):  # 2 = preflight gate, also acceptable
            raise RuntimeError(f"humanize_v2 exited {proc.returncode}: {proc.stderr[:400]}")
        if Path(out_path).exists():
            return Path(out_path).read_text(encoding="utf-8")
        return proc.stdout
    finally:
        for p in (inp_path, out_path):
            try:
                os.unlink(p)
            except OSError:
                pass


class TestResult:
    def __init__(self):
        self.passed = 0
        self.failed = 0
        self.cases = []

    def check(self, name: str, cond: bool, detail: str = ""):
        if cond:
            self.passed += 1
            self.cases.append((name, "PASS", ""))
            print(f"  [PASS] {name}")
        else:
            self.failed += 1
            self.cases.append((name, "FAIL", detail))
            print(f"  [FAIL] {name}: {detail}")


def main():
    r = TestResult()

    print("=" * 60)
    print("  T1 — clause-preserving substitution (أن must survive)")
    print("=" * 60)
    out = run_humanize("من الواضح أن القرار مناسب جداً.",
                       "--mode", "tighten", "--register", "news")
    r.check("T1.أن_preserved", "أن" in out,
            f"output dropped أن: {out[:80]!r}")
    r.check("T1.no_broken_construct", "بوضوح القرار" not in out,
            f"output broke grammar: {out[:80]!r}")

    print()
    print("=" * 60)
    print("  T2 — pro-drop deletion (fluff disappears)")
    print("=" * 60)
    out = run_humanize("في الواقع، النظام يعمل جيداً. بكل تأكيد المستقبل قادم.",
                       "--mode", "tighten", "--register", "news")
    r.check("T2.fi_alwaqi_deleted", "في الواقع" not in out,
            f"في الواقع still present: {out[:80]!r}")
    r.check("T2.bikul_taakeed_deleted", "بكل تأكيد" not in out,
            f"بكل تأكيد still present: {out[:80]!r}")
    r.check("T2.content_preserved", "النظام" in out and "المستقبل" in out,
            f"content nouns lost: {out[:80]!r}")

    print()
    print("=" * 60)
    print("  T3 — quote-verb rotation default-OFF (قال survives)")
    print("=" * 60)
    env_off = {k: v for k, v in os.environ.items()
               if k != "HUMANIZER_ALLOW_QUOTE_ROTATION"}
    out = run_humanize(
        "يقول الخبير إن النتائج إيجابية. قال المدير إن المشروع ناجح.",
        "--mode", "tighten", "--register", "news",
        env_overrides={"HUMANIZER_ALLOW_QUOTE_ROTATION": ""},
    )
    r.check("T3.qala_survives", "قال" in out,
            f"قال was rotated without env-gate: {out[:80]!r}")
    r.check("T3.yaqul_survives", "يقول" in out,
            f"يقول was rotated without env-gate: {out[:80]!r}")
    for hostile in ("يزعم", "ادّعى", "اعترف"):
        r.check(f"T3.no_hostile_{hostile}", hostile not in out,
                f"hostile verb '{hostile}' injected: {out[:80]!r}")

    print()
    print("=" * 60)
    print("  T6 — provider-agnostic guard (no API config → graceful)")
    print("=" * 60)
    env_no_api = {k: v for k, v in os.environ.items()
                  if k not in ("LLM_API_URL", "LLM_API_KEY", "LLM_MODEL")}
    env_no_api["LLM_API_URL"] = ""
    env_no_api["LLM_MODEL"] = ""
    try:
        out = run_humanize(
            "النظام يَعمل بشكل جيد. هذا اختبار للتحقق من السلوك بدون مفتاح API.",
            "--mode", "+cognitive", "--llm-backend", "api",
            env_overrides=env_no_api,
        )
        r.check("T6.no_crash_without_api", True)
        r.check("T6.lex_pass_still_applied", "بشكل" not in out or len(out) > 10,
                "output looks empty — pipeline crashed silently")
    except Exception as e:
        r.check("T6.no_crash_without_api", False,
                f"crashed instead of graceful degradation: {e}")

    print()
    print("=" * 60)
    print("  T7 — hamza letter forms survive (NOT tashkeel)")
    print("=" * 60)
    out = run_humanize(
        "إن النظام يعمل. أن نعرف ذلك. إما هذا أو ذاك. أما أنت فمختلف.",
        "--mode", "tighten", "--register", "news",
    )
    r.check("T7.hamza_above_alif_an", "أن" in out,
            f"أن (hamza above) was stripped: {out[:80]!r}")
    r.check("T7.hamza_below_alif_in", "إن" in out,
            f"إن (hamza below) was stripped: {out[:80]!r}")
    r.check("T7.imma_vs_amma_preserved",
            "إما" in out and "أما" in out,
            f"إما/أما distinction lost: {out[:120]!r}")

    print()
    print("=" * 60)
    print("  T8 — madda/precomposed letters survive (قرآن آلام آمال)")
    print("=" * 60)
    out = run_humanize(
        "النص يتحدث عن قرآن وآلام وآمال وأحصنة وآذان.",
        "--mode", "tighten", "--register", "news",
    )
    for word in ("قرآن", "آلام", "آمال", "أحصنة", "آذان"):
        r.check(f"T8.{word}_survives", word in out,
                f"{word} broken in output: {out[:120]!r}")

    print()
    print("=" * 60)
    print("  T9 — Arabic-Indic digits preserved (٠-٩)")
    print("=" * 60)
    out = run_humanize(
        "الأرقام ٠١٢٣٤٥٦٧٨٩ والسنة ٢٠٢٦ والنسبة ٨٧٪ يجب أن تَبقى.",
        "--mode", "tighten", "--register", "news",
    )
    for digit in ("٠١٢٣٤٥٦٧٨٩", "٢٠٢٦", "٨٧"):
        r.check(f"T9.digits_{digit}_survive", digit in out,
                f"digit run '{digit}' was stripped: {out[:120]!r}")

    print()
    print("=" * 60)
    print("  T10 — pipeline calque (خط أنابيب) replaced by workflow phrasing")
    print("=" * 60)
    out = run_humanize(
        "خط أنابيب التحويل يَعمل بكفاءة في كل المراحل.",
        "--mode", "tighten", "--register", "news",
    )
    r.check("T10.calque_replaced", "خط أنابيب" not in out,
            f"خط أنابيب still present: {out[:120]!r}")
    r.check("T10.workflow_inserted",
            "مسار عمل" in out or "مسار العمل" in out or "تسلسل العمل" in out,
            f"no workflow phrasing in output: {out[:120]!r}")

    print()
    print("=" * 60)
    print("  T11 — tashkeel reduced in news register, preserved in classical")
    print("=" * 60)
    heavy_in = "النَّصُّ المُولَّدُ بِالذَّكاءِ الاصطِناعيِّ يَحتاجُ إلى تَحويلٍ عَميقٍ."
    tashkeel_re = re.compile(r"[ً-ْٰ]")
    in_count = len(tashkeel_re.findall(heavy_in))

    out_news = run_humanize(heavy_in, "--mode", "tighten", "--register", "news")
    out_classical = run_humanize(heavy_in, "--mode", "tighten", "--register", "classical")
    news_count = len(tashkeel_re.findall(out_news))
    classical_count = len(tashkeel_re.findall(out_classical))

    r.check("T11.news_reduces_tashkeel", news_count < in_count // 2,
            f"news register kept {news_count}/{in_count} tashkeel marks (expected < half)")
    r.check("T11.classical_preserves_tashkeel", classical_count >= in_count * 0.7,
            f"classical register kept only {classical_count}/{in_count} marks (expected >= 70%)")

    print()
    print("=" * 60)
    print("  T12 — calque dictionary loads (v2.3.0)")
    print("=" * 60)
    # Sanity: the lex pipeline should produce different output on calque input
    # vs the same input absent the calque. We test a known dictionary entry.
    out_calque = run_humanize(
        "خط أنابيب البيانات يعمل بكفاءة عالية في المنصة.",
        "--mode", "tighten", "--register", "news",
    )
    r.check("T12.dict_loaded",
            "خط أنابيب" not in out_calque,
            f"calque survived in output: {out_calque[:120]!r}")

    print()
    print("=" * 60)
    print("  T13 — calque dictionary catches multi-domain calques")
    print("=" * 60)
    # Business calque: 'startup' as 'بدء التشغيل' should become 'شركة ناشئة'
    out_biz = run_humanize(
        "بدء التشغيل التقنية الجديدة تطلق منتجها الأول هذا الأسبوع.",
        "--mode", "tighten", "--register", "news",
    )
    r.check("T13.business_calque_caught",
            "بدء التشغيل" not in out_biz or "شركة ناشئة" in out_biz,
            f"startup calque survived: {out_biz[:120]!r}")

    # Security calque: 'logging' is NOT in our dict (we dropped it due to ambiguity)
    # but 'monitoring' as 'مونيتورينغ' should become 'مراقبة'
    out_sec = run_humanize(
        "مونيتورينغ النظام يكشف الأخطاء فور حدوثها.",
        "--mode", "tighten", "--register", "news",
    )
    r.check("T13.transliteration_calque_caught",
            "مونيتورينغ" not in out_sec,
            f"monitoring transliteration survived: {out_sec[:120]!r}")

    print()
    print("=" * 60)
    print("  T14 — calque dictionary REGISTER-GATED (technical preserves source)")
    print("=" * 60)
    # In technical register, calques in the new v2.3.0 dictionary should NOT
    # be substituted (preserve source verbatim). We use 'مونيتورينغ' which is
    # only in the new calque-dictionary.json — NOT in AI_PHRASES_AR.
    out_tech = run_humanize(
        "مونيتورينغ النظام يعمل بكفاءة في البيئة الإنتاجية.",
        "--mode", "tighten", "--register", "technical",
    )
    r.check("T14.technical_preserves_calque",
            "مونيتورينغ" in out_tech,
            f"technical register substituted: {out_tech[:120]!r}")

    print()
    print("=" * 60)
    print(f"  Total: {r.passed + r.failed}  |  PASS: {r.passed}  |  FAIL: {r.failed}")
    print("=" * 60)
    sys.exit(0 if r.failed == 0 else 1)


if __name__ == "__main__":
    main()

`````

### File: arabic-ai-text-humanizer/corpus/empirical-patterns.json

`````json
{
  "input": "(reference Arabic JSONL corpus, path redacted)",
  "sample_size": 100000,
  "skipped": 0,
  "elapsed_s": 86.8,
  "categories": {
    "quran": {
      "n_records": 18708,
      "n_sentences": 18708,
      "n_tokens": 285952,
      "mean_sentence_length": 15.3,
      "stddev_sentence_length": 12.5,
      "burstiness": 0.817,
      "sentence_length_histogram_pct": {
        "1-5": 18.6,
        "6-10": 24.8,
        "11-15": 19.5,
        "16-20": 13.1,
        "21-30": 14.3,
        "31-50": 7.7,
        "51+": 2.0
      },
      "top_connectors": [
        [
          "إن",
          966
        ],
        [
          "أن",
          638
        ],
        [
          "و",
          443
        ],
        [
          "ثم",
          340
        ],
        [
          "أو",
          280
        ],
        [
          "إذا",
          221
        ],
        [
          "إذ",
          165
        ],
        [
          "حتى",
          142
        ],
        [
          "بل",
          127
        ],
        [
          "قد",
          126
        ],
        [
          "كذلك",
          86
        ],
        [
          "كما",
          59
        ],
        [
          "وقد",
          43
        ],
        [
          "حيث",
          29
        ],
        [
          "على أن",
          18
        ],
        [
          "بأن",
          17
        ],
        [
          "وذلك",
          13
        ],
        [
          "كأن",
          10
        ],
        [
          "لكن",
          6
        ],
        [
          "كأنما",
          3
        ],
        [
          "ربما",
          1
        ],
        [
          "بسبب",
          1
        ],
        [
          "لأن",
          1
        ]
      ],
      "top_sent_initial_tokens": [
        [
          "و",
          2202
        ],
        [
          "ان",
          965
        ],
        [
          "قال",
          713
        ],
        [
          "ف",
          649
        ],
        [
          "قل",
          520
        ],
        [
          "وما",
          348
        ],
        [
          "ثم",
          315
        ],
        [
          "ولقد",
          228
        ],
        [
          "بسم",
          226
        ],
        [
          "ا",
          225
        ],
        [
          "وان",
          217
        ],
        [
          "واذا",
          212
        ],
        [
          "لا",
          209
        ],
        [
          "الا",
          205
        ],
        [
          "ما",
          201
        ],
        [
          "ومن",
          190
        ],
        [
          "ولا",
          188
        ],
        [
          "ام",
          183
        ],
        [
          "ي",
          168
        ],
        [
          "اذ",
          162
        ],
        [
          "يا",
          158
        ],
        [
          "يوم",
          154
        ],
        [
          "ٱلذين",
          151
        ],
        [
          "من",
          142
        ],
        [
          "ل",
          138
        ],
        [
          "واذ",
          128
        ],
        [
          "الم",
          120
        ],
        [
          "فلما",
          116
        ],
        [
          "يايها",
          114
        ],
        [
          "وقال",
          112
        ]
      ],
      "mean_tashkeel_ratio": 0.3955
    },
    "classical/modern": {
      "n_records": 63828,
      "n_sentences": 1273134,
      "n_tokens": 70281039,
      "mean_sentence_length": 60.63,
      "stddev_sentence_length": 3119.92,
      "burstiness": 51.456,
      "sentence_length_histogram_pct": {
        "1-5": 6.5,
        "6-10": 12.9,
        "11-15": 12.0,
        "16-20": 10.1,
        "21-30": 15.3,
        "31-50": 18.3,
        "51+": 24.9
      },
      "top_connectors": [
        [
          "أن",
          5945
        ],
        [
          "و",
          3377
        ],
        [
          "أو",
          2615
        ],
        [
          "قد",
          1253
        ],
        [
          "كما",
          1072
        ],
        [
          "إن",
          974
        ],
        [
          "ثم",
          829
        ],
        [
          "حتى",
          676
        ],
        [
          "إذا",
          652
        ],
        [
          "بل",
          618
        ],
        [
          "أيضاً",
          469
        ],
        [
          "لأن",
          422
        ],
        [
          "وقد",
          378
        ],
        [
          "ف",
          289
        ],
        [
          "حيث",
          276
        ],
        [
          "إذ",
          267
        ],
        [
          "كذلك",
          263
        ],
        [
          "بأن",
          258
        ],
        [
          "أيضا",
          225
        ],
        [
          "لكن",
          190
        ],
        [
          "بسبب",
          121
        ],
        [
          "على أن",
          118
        ],
        [
          "لذلك",
          76
        ],
        [
          "نحو",
          45
        ],
        [
          "أولاً",
          45
        ],
        [
          "إذن",
          44
        ],
        [
          "وعلى الرغم من",
          43
        ],
        [
          "ربما",
          40
        ],
        [
          "قد يكون",
          35
        ],
        [
          "في النهاية",
          35
        ]
      ],
      "top_sent_initial_tokens": [
        [
          "قال",
          6403
        ],
        [
          "قوله",
          4043
        ],
        [
          "وقال",
          2778
        ],
        [
          "ومن",
          2529
        ],
        [
          "واما",
          1922
        ],
        [
          "فان",
          1566
        ],
        [
          "وقد",
          1465
        ],
        [
          "ثم",
          1139
        ],
        [
          "وفي",
          1091
        ],
        [
          "ولو",
          1088
        ],
        [
          "وان",
          993
        ],
        [
          "وعن",
          910
        ],
        [
          "قلت",
          903
        ],
        [
          "ولا",
          834
        ],
        [
          "وقوله",
          681
        ],
        [
          "وهذا",
          633
        ],
        [
          "وهو",
          617
        ],
        [
          "فقال",
          598
        ],
        [
          "ان",
          547
        ],
        [
          "من",
          543
        ],
        [
          "ويقال",
          497
        ],
        [
          "ابن",
          490
        ],
        [
          "اما",
          488
        ],
        [
          "وكذلك",
          482
        ],
        [
          "كما",
          441
        ],
        [
          "و",
          422
        ],
        [
          "حدثنا",
          420
        ],
        [
          "لا",
          387
        ],
        [
          "في",
          385
        ],
        [
          "وقيل",
          343
        ]
      ],
      "mean_tashkeel_ratio": 0.4404
    },
    "news": {
      "n_records": 7650,
      "n_sentences": 8618,
      "n_tokens": 219314,
      "mean_sentence_length": 25.67,
      "stddev_sentence_length": 17.43,
      "burstiness": 0.679,
      "sentence_length_histogram_pct": {
        "1-5": 7.0,
        "6-10": 12.6,
        "11-15": 12.6,
        "16-20": 11.5,
        "21-30": 23.9,
        "31-50": 24.1,
        "51+": 8.3
      },
      "top_connectors": [
        [
          "أن",
          1820
        ],
        [
          "كما",
          387
        ],
        [
          "إن",
          316
        ],
        [
          "قد",
          301
        ],
        [
          "أو",
          301
        ],
        [
          "حتى",
          254
        ],
        [
          "حيث",
          245
        ],
        [
          "وقد",
          184
        ],
        [
          "نحو",
          180
        ],
        [
          "بسبب",
          125
        ],
        [
          "لكن",
          123
        ],
        [
          "ثم",
          97
        ],
        [
          "وذلك",
          97
        ],
        [
          "بأن",
          96
        ],
        [
          "إذا",
          72
        ],
        [
          "بل",
          64
        ],
        [
          "لأن",
          61
        ],
        [
          "على أن",
          53
        ],
        [
          "و",
          51
        ],
        [
          "ف",
          49
        ],
        [
          "إذ",
          42
        ],
        [
          "من جهة",
          38
        ],
        [
          "أيضا",
          38
        ],
        [
          "أيضاً",
          32
        ],
        [
          "وبالتالي",
          24
        ],
        [
          "لذلك",
          24
        ],
        [
          "رغم أن",
          24
        ],
        [
          "بحيث",
          23
        ],
        [
          "أخيراً",
          20
        ],
        [
          "فضلاً عن",
          20
        ]
      ],
      "top_sent_initial_tokens": [
        [
          "وقال",
          465
        ],
        [
          "واضاف",
          218
        ],
        [
          "كما",
          185
        ],
        [
          "وكان",
          148
        ],
        [
          "واشار",
          140
        ],
        [
          "وقد",
          132
        ],
        [
          "واوضح",
          125
        ],
        [
          "وفي",
          123
        ],
        [
          "واكد",
          121
        ],
        [
          "ومن",
          103
        ],
        [
          "وكانت",
          95
        ],
        [
          "من",
          81
        ],
        [
          "وقالت",
          73
        ],
        [
          "في",
          64
        ],
        [
          "اما",
          56
        ],
        [
          "واعلن",
          52
        ],
        [
          "لكن",
          51
        ],
        [
          "ولم",
          47
        ],
        [
          "وعلي",
          45
        ],
        [
          "اكد",
          45
        ],
        [
          "وذكر",
          44
        ],
        [
          "يذكر",
          44
        ],
        [
          "واشارت",
          43
        ],
        [
          "قال",
          40
        ],
        [
          "واضافت",
          39
        ],
        [
          "وذكرت",
          39
        ],
        [
          "اعلن",
          39
        ],
        [
          "ونقلت",
          34
        ],
        [
          "واوضحت",
          33
        ],
        [
          "الا",
          33
        ]
      ],
      "mean_tashkeel_ratio": 0.0022
    },
    "lexicon": {
      "n_records": 9814,
      "n_sentences": 10189,
      "n_tokens": 492383,
      "mean_sentence_length": 59.28,
      "stddev_sentence_length": 52.05,
      "burstiness": 0.878,
      "sentence_length_histogram_pct": {
        "1-5": 7.2,
        "6-10": 8.8,
        "11-15": 17.1,
        "16-20": 1.0,
        "21-30": 2.8,
        "31-50": 16.7,
        "51+": 46.4
      },
      "top_connectors": [
        [
          "و",
          4
        ],
        [
          "نحو",
          1
        ]
      ],
      "top_sent_initial_tokens": [
        [
          "جمهورية",
          43
        ],
        [
          "اجر",
          16
        ],
        [
          "المختبرية",
          16
        ],
        [
          "امر",
          15
        ],
        [
          "ان",
          14
        ],
        [
          "جدر",
          14
        ],
        [
          "فعل",
          13
        ],
        [
          "عدل",
          13
        ],
        [
          "امل",
          12
        ],
        [
          "المزدوجة",
          12
        ],
        [
          "الفقري",
          12
        ],
        [
          "الفقرية",
          12
        ],
        [
          "نعل",
          12
        ],
        [
          "سلم",
          11
        ],
        [
          "رجل",
          11
        ],
        [
          "صفر",
          11
        ],
        [
          "علي",
          11
        ],
        [
          "يسر",
          11
        ],
        [
          "حرم",
          11
        ],
        [
          "اكل",
          11
        ],
        [
          "نذر",
          11
        ],
        [
          "اصفر",
          11
        ],
        [
          "نعم",
          11
        ],
        [
          "كبر",
          11
        ],
        [
          "عرض",
          11
        ],
        [
          "حجر",
          10
        ],
        [
          "ما",
          10
        ],
        [
          "قطر",
          10
        ],
        [
          "ملك",
          10
        ],
        [
          "زور",
          10
        ]
      ],
      "mean_tashkeel_ratio": 0.4555
    }
  },
  "global_top_connectors": [
    [
      "أن",
      8403
    ],
    [
      "و",
      3875
    ],
    [
      "أو",
      3196
    ],
    [
      "إن",
      2256
    ],
    [
      "قد",
      1680
    ],
    [
      "كما",
      1518
    ],
    [
      "ثم",
      1266
    ],
    [
      "حتى",
      1072
    ],
    [
      "إذا",
      945
    ],
    [
      "بل",
      809
    ],
    [
      "وقد",
      605
    ],
    [
      "حيث",
      550
    ],
    [
      "أيضاً",
      501
    ],
    [
      "لأن",
      484
    ],
    [
      "إذ",
      474
    ],
    [
      "بأن",
      371
    ],
    [
      "كذلك",
      367
    ],
    [
      "ف",
      338
    ],
    [
      "لكن",
      319
    ],
    [
      "أيضا",
      263
    ],
    [
      "بسبب",
      247
    ],
    [
      "نحو",
      226
    ],
    [
      "على أن",
      189
    ],
    [
      "وذلك",
      142
    ],
    [
      "لذلك",
      100
    ],
    [
      "ربما",
      60
    ],
    [
      "وعلى الرغم من",
      54
    ],
    [
      "من جهة",
      52
    ],
    [
      "إذن",
      48
    ],
    [
      "قد يكون",
      47
    ],
    [
      "أولاً",
      47
    ],
    [
      "بحيث",
      42
    ],
    [
      "مع ذلك",
      41
    ],
    [
      "في النهاية",
      39
    ],
    [
      "وبالتالي",
      39
    ],
    [
      "أخيراً",
      33
    ],
    [
      "فضلاً عن",
      25
    ],
    [
      "رغم أن",
      24
    ],
    [
      "في البداية",
      23
    ],
    [
      "كأن",
      21
    ],
    [
      "على سبيل المثال",
      21
    ],
    [
      "لذا",
      20
    ],
    [
      "غير أن",
      18
    ],
    [
      "ولعل",
      17
    ],
    [
      "إلى جانب",
      16
    ],
    [
      "من ناحية أخرى",
      11
    ],
    [
      "مع أن",
      9
    ],
    [
      "في المقابل",
      9
    ],
    [
      "مثلاً",
      8
    ],
    [
      "يبدو أن",
      8
    ]
  ],
  "global_top_sent_initial": [
    [
      "قال",
      7158
    ],
    [
      "قوله",
      4043
    ],
    [
      "وقال",
      3355
    ],
    [
      "ومن",
      2822
    ],
    [
      "و",
      2630
    ],
    [
      "واما",
      1983
    ],
    [
      "فان",
      1635
    ],
    [
      "وقد",
      1611
    ],
    [
      "ان",
      1542
    ],
    [
      "ثم",
      1473
    ],
    [
      "وفي",
      1232
    ],
    [
      "وان",
      1217
    ],
    [
      "ولو",
      1188
    ],
    [
      "ولا",
      1052
    ],
    [
      "وعن",
      922
    ],
    [
      "قلت",
      903
    ],
    [
      "من",
      773
    ],
    [
      "وهو",
      695
    ],
    [
      "وقوله",
      681
    ],
    [
      "وهذا",
      661
    ],
    [
      "ف",
      655
    ],
    [
      "كما",
      634
    ],
    [
      "لا",
      620
    ],
    [
      "فقال",
      613
    ],
    [
      "وما",
      612
    ],
    [
      "واذا",
      577
    ],
    [
      "اما",
      556
    ],
    [
      "قل",
      535
    ],
    [
      "في",
      533
    ],
    [
      "وكذلك",
      533
    ],
    [
      "ويقال",
      497
    ],
    [
      "ابن",
      492
    ],
    [
      "ما",
      469
    ],
    [
      "الا",
      430
    ],
    [
      "حدثنا",
      420
    ],
    [
      "هذا",
      383
    ],
    [
      "او",
      380
    ],
    [
      "وكان",
      373
    ],
    [
      "وقيل",
      357
    ],
    [
      "لان",
      339
    ],
    [
      "وتقول",
      332
    ],
    [
      "ا",
      323
    ],
    [
      "تنبيه",
      315
    ],
    [
      "علي",
      313
    ],
    [
      "فصل",
      312
    ],
    [
      "وروي",
      301
    ],
    [
      "ولكن",
      295
    ],
    [
      "وقالت",
      292
    ],
    [
      "هل",
      285
    ],
    [
      "وبه",
      280
    ]
  ]
}
`````

---

# Post-install verification

```
python arabic-ai-text-humanizer/evals/run_golden.py
python arabic-ai-text-humanizer/evals/test_known_fragility.py
```

Expect **20/20 PASS** on the golden suite and **12/12 PASS** on the
fragility suite. Both Python 3 stdlib only — no `pip install`.

# Optional — re-mine the corpus

The skill ships with `corpus/empirical-patterns.json` already computed
(100K records / 1.31M sentences / 71.28M tokens / ≈87s mining time across
Qur'an, classical/modern, news, and lexicon registers). To re-mine
against your own Arabic JSONL:

```
export ARABIC_CORPUS_PATH=/path/to/your-corpus.jsonl
python arabic-ai-text-humanizer/scripts/mine_corpus.py
```

JSONL schema: one record per line, shape `{"text": "...", "metadata": {"category": "..."}}`.

# License

MIT. See `arabic-ai-text-humanizer/LICENSE`.
