# Issue History / 历史记录

Records the full lifecycle of each issue: background, design, implementation, limitations, and follow-ups.

本文档记录每个 issue 的完整生命周期：背景、设计方案、实现方案、局限性及遗留事项。

- Entries are ordered newest-first / 条目按时间倒序排列（最新在上）
- See [README.md](README.md) for scope and field conventions / 参见 README.md 了解记录范围与字段约定

<!--
## Record Template / 记录模板

Copy the block below when creating a new entry.
新建条目时复制以下模板。

### HIST-NNN: <Title / 标题>

- **Status / 状态**: Open | In Progress | Closed
- **Date / 日期**: YYYY-MM-DD
- **Related commits / 关联提交**: (optional)

#### Background / 背景

(Why this issue exists — context, motivation, triggering event)

#### Design / 设计方案

(Approach chosen, alternatives considered, trade-offs)

#### Implementation / 实现方案

(What was actually done — files changed, key decisions during execution)

#### Limitations / 局限性

(Known constraints, edge cases not covered, performance caveats)

#### TODOs / 遗留项

(Follow-up work, deferred items, future improvements)

-->

---

## Summary / 总览

| ID | Title / 标题 | Status / 状态 | Date / 日期 |
|----|-------------|--------------|------------|
| HIST-008 | 后台同步脚本改名（async-agent-rules → async-agent-toolkit） | Closed | 2026-04-26 |
| HIST-007 | Codex 入口 AGENTS.override.md 化 + sub-repo 双注入修复 | Closed | 2026-04-25 |
| HIST-006 | OpenCode 原生集成 + 每工具 subagent 部署骨架 | Closed | 2026-04-25 |
| HIST-005 | Skill 命名空间前缀（`gla-` default） | Closed | 2026-04-21 |
| HIST-004 | CLAUDE.md 退役（CC 原生 `.claude/rules/` 接管） | Closed | 2026-04-21 |
| HIST-003 | Commands/Review 子系统退役 | Closed | 2026-04-21 |
| HIST-002 | Project Overlay 优化方案 | In Progress | 2026-03-04 |
| HIST-001 | Agent Rules 隔离方案 | Closed | 2026-03-04 |
| HIST-000 | Visual Explanations 规则 | Closed | 2026-03-01 |

---

## Records / 记录

### HIST-008: 后台同步脚本改名（async-agent-rules → async-agent-toolkit）

- **Status / 状态**: Closed
- **Date / 日期**: 2026-04-26
- **Scope / 范围**: `scripts/async-agent-rules.sh` → `scripts/async-agent-toolkit.sh`、`install.sh`、`README.md`、`.agent-local.md`

#### 背景 / Background

项目早期名 "agent-rules"，后来定名 "agent-toolkit"。后台同步脚本与对应 alias 还保留旧名 `async-agent-rules` / `async-agent-rules.sh`，是项目命名收敛的最后一处遗漏。HIST-007 已经把 path 层的 `.agent-rules/` 目录退役（见 HIST-007 §背景），脚本/alias 层与项目名对齐是该方向的自然延伸。

#### 设计 / Design

脚本文件 + alias 名同步改成 `async-agent-toolkit` / `async-agent-toolkit.sh`。备选方案：

- **A（采纳）**：直接改名 + 文档/install.sh 同步替换。一次性成本，最终状态干净。
- **B**：保留旧名并加 alias 别名做"双名共存"。被否决——双名只会让用户在搜索/排错时多一层间接，且 `agent-toolkit` 名字下不应该再保留 `agent-rules` 字样。

`issue_history/HISTORY.md` 内已有的老条目（HIST-006 与 HIST-004 §TODOs 中各有一处 `async-agent-rules.sh` 字样）按 append-only 原则**保留不动**——那些是当时的事实记录，通过追加本条而非修改老条目来说明改名事件。

#### 实现 / Implementation

| 文件 | 改动 |
|------|------|
| `scripts/async-agent-rules.sh` → `scripts/async-agent-toolkit.sh` | 文件 `mv`；脚本内 self-ref（`[USAGE]` 注释 + `show_help` heredoc）共 2 处随之更新 |
| `install.sh` | 注释、`show_help` 的 WHAT IT DOES 列表、`_info` 中"To update later" / "scripts/async-...sh to update an existing install"提示、写入 rc 的 `alias` 行，共 12 处替换 |
| `README.md` | §2 项目结构图、§3 Quick Start (Option B 手工安装步骤 + Update rules 段)、§4 注释，共 6 处 |
| `.agent-local.md` | 项目结构图 1 处 |

`bash -n` 通过：`scripts/async-agent-toolkit.sh`、`install.sh` 全部 syntax 干净。

#### Limitations / 局限性

- **存量 shell rc 中的旧 alias 不会被自动清理**：已经跑过老版 `install.sh` 的用户其 `.zshrc` / `.bashrc` 里仍有 `alias async-agent-rules=...`，指向已不存在的 `scripts/async-agent-rules.sh`，调用会失败。手工删除旧 alias 是一次性成本。本次未提供自动迁移脚本（影响面预期极小，且新 `install.sh` 由 `ALIAS_MARKER` 守卫只追加一次，不会与旧块互相破坏）。
- **HISTORY 老条目内的 `async-agent-rules.sh` 引用未更新**：HIST-006 §TODOs、HIST-004 §TODOs 各一处。append-only 原则下保留——本条作为 cross-ref 入口，未来维护者只用脚本名搜索时仍能回到本条说明。

#### Cross-refs / 关联

- **HIST-001**：HIST-001 时代命名 "agent-rules"。HIST-001 → HIST-007 → HIST-008 是同一条命名收敛链路：HIST-001 引入 `agent-rules` 名字，HIST-007 退役 `.agent-rules/` 自建目录，HIST-008 收掉脚本/alias 层的最后一处旧名残留。
- **HIST-007**：path 层与脚本层是两个独立位面，HIST-007 已经把前者退役；本条只补后者。

#### TODOs / 遗留项

- [ ] 若用户实际反馈"旧 alias 残留"问题频发，再考虑在 README §3 增加"升级旧 alias"小节（手工 `sed` `async-agent-rules` → `async-agent-toolkit`）。当前为避免 README 因小变更而膨胀，不主动加。

---

### HIST-007: Codex 入口 AGENTS.override.md 化 + sub-repo 双注入修复

- **Status / 状态**: Closed
- **Date / 日期**: 2026-04-25
- **Scope / 范围**: `scripts/lib/gen-codex.sh`、`scripts/lib/sync.sh`、`scripts/lib/clean.sh`、`scripts/lib/resolve.sh`、`scripts/agent-check.sh`、`scripts/agent-test.sh`、`README.md`、`issue_history/HISTORY.md`

#### 背景 / Background

HIST-007 同时解决两个独立问题：

1. **Codex 入口走 `.agent-rules/AGENTS.md` + `project_doc_fallback_filenames` 是不必要的间接**。这是 HIST-001 时代的设计，当时假设"任何写到根目录的 `AGENTS.md` 都会被 Cursor 自动注入并造成重复"，所以 agent-sync 把文件藏到自建的 `.agent-rules/` 目录，再通过 `.codex/config.toml` 的 fallback 让 Codex 找到。这个设计有三处冗余：
   - 自建 `.agent-rules/` 目录需要单独维护（`.gitignore`、cleanup、文档说明）
   - `project_doc_fallback_filenames` 是 Codex 为"老项目想用 `CLAUDE.md` 之类备选名"提供的兼容机制，本来就不是设计来给 agent-sync 这种新工具用的
   - Codex 原生发现路径里**已经有 `AGENTS.override.md`**——这是 Codex 为"我想覆盖某层目录的 `AGENTS.md`"提供的官方机制，每目录优先级最高、每目录最多加载一个文件（来源：[Codex agents-md docs](https://developers.openai.com/codex/guides/agents-md)）。
   只要根目录直接放 `AGENTS.override.md`，Codex 就能用，且 `AGENTS.override.md` 这个命名**不在 Cursor 自动注入列表里**（来源：[Cursor docs](https://cursor.com/docs/context/rules)，明确只列 `AGENTS.md` / `CLAUDE.md`）——所以"避免 Cursor 重复注入"的原始顾虑不存在了，自建目录的整套机制可以彻底退役。

2. **sub-repo `AGENTS.md` 被 Cursor 重复注入是一个潜在问题，pre-HIST-007 README 没意识到**。Cursor 后来加了 ["Nested AGENTS.md support"](https://cursor.com/docs/context/rules) feature——每个子目录的 `AGENTS.md` 在编辑该目录内文件时会被自动注入，等价于 `globs: <sub_dir>/**`。agent-sync 现状下 sub-repo 同时写：
   - `<sub_repo>/AGENTS.md`（给 Codex 用）
   - `.cursor/rules/<sub_repo>-overlay.mdc`（给 Cursor 用，body 内容相同）
   两份内容相同，但 Cursor 的 nested-AGENTS.md feature 会把 `<sub_repo>/AGENTS.md` 也吃进 context——编辑该 sub-repo 内文件时 token 翻倍。把 sub-repo 文件也改名为 `AGENTS.override.md` 后，Cursor 文件名匹配失败、不再注入，Codex 优先级机制不变，问题自动消失。

两个问题都收敛到同一个动作：**把 Codex 入口（root + sub-repo）从 `AGENTS.md` 改成 `AGENTS.override.md`**。

#### 设计 / Design

**方案 B（最终采纳）：root + sub-repo 同步改名**。备选方案：

- 方案 A：仅 root 改 `AGENTS.override.md`，sub-repo 维持 `AGENTS.md`（接受重复注入）。改动最小，但 sub-repo 双注入问题不解决。用户初选 A，被告知 nested-AGENTS.md 行为后改选 B。
- 方案 C：完全不要 `.codex/config.toml`、关 `child_agents_md`。会破坏 sub-repo overlay 能力（HIST-002 设计），不可取。

**关键文档证据**（避免方案被未来误改）：

- Codex 行为（[agents-md docs](https://developers.openai.com/codex/guides/agents-md)）：
  > In each directory along the path, it checks for `AGENTS.override.md`, then `AGENTS.md`, then any fallback names in `project_doc_fallback_filenames`. **Codex includes at most one file per directory**.

- Cursor 行为（[Rules docs](https://cursor.com/docs/context/rules)）：
  > Cursor supports **AGENTS.md** in the project root and subdirectories.
  > **Nested AGENTS.md support** in subdirectories is now available... they will be automatically applied **when working with files in that directory or its children**.

  Cursor 文档**只列 `AGENTS.md`**，不包含 `.override.md` 后缀。CLI docs 的 always-applied 列表同样写 "**AGENTS.md and CLAUDE.md**"。这两处文档措辞是 HIST-007 设计的硬依据。

**B1 vs B2 — sub-repo 旧文件清扫策略**：

- B1（最终采纳）：`sync_sub_repos()` 无差别 `rm -f $sub_dir/AGENTS.md`。这与 HIST-007 之前的代码行为一致（pre-HIST-007 也是直接 `>` 覆盖 sub-repo `AGENTS.md`，本质把这个文件视为 agent-sync 独占）。改名后顺势把"独占"延续到旧名字。
- B2：marker-gated（grep `<!-- Auto-generated by agent-sync` 才删）。更安全但增复杂度。被否决因为 pre-HIST-007 行为已经隐含 B1 假设。

**Marker-gated 与否（root `AGENTS.override.md`）**：

不加 marker，每次 sync 直接 `> overwrite`。理由：
- pre-HIST-007 用户**从未在根目录手写过 `AGENTS.override.md`**（这个文件名本身就是 HIST-007 引入的）
- post-HIST-007，agent-sync 是这个文件的唯一作者
- 若用户主动写了同名文件，`agent-sync` 会覆盖——这是预期行为，用户应该用 `.agent-local.md` overlay 表达自定义内容

#### 实现 / Implementation

| 文件 | 改动 |
|------|------|
| `scripts/lib/gen-codex.sh` | `generate_codex()`：输出路径 `.agent-rules/AGENTS.md` → `$PROJECT_DIR/AGENTS.override.md`；删除 `mkdir -p .agent-rules`；header 加 HIST-007 说明。`generate_codex_config()`：移除 `project_doc_fallback_filenames` 行，仅保留 `[features] child_agents_md = true` |
| `scripts/lib/sync.sh` | `cleanup_remnants()`：保留 `rm -f root/CLAUDE.md root/AGENTS.md`（Cursor 自动注入触发器）；新增 `rm -f .agent-rules/AGENTS.md` + `rmdir .agent-rules`（迁移清扫）。`sync_sub_repos()`：`sub_agents_override="$sub_dir/AGENTS.override.md"` 替代旧 `sub_agents`；写新文件后 `rm -f sub/AGENTS.md sub/CLAUDE.md`（B1 sweep）；ghost cleanup 同时清 `AGENTS.override.md` + `AGENTS.md` + `CLAUDE.md` |
| `scripts/lib/clean.sh` | `do_clean()`：root `AGENTS.override.md` 直接 `rm -f`（无 marker，因为 agent-sync 独占）；sub-repo cleanup 三名并清；orphan scanner `find` 模式加入 `AGENTS.override.md` |
| `scripts/lib/resolve.sh` | `check_staleness()::agents_exists` 检测路径改 `$PROJECT_DIR/AGENTS.override.md` |
| `scripts/agent-check.sh` | Check #1 路径改名（`.agent-rules/AGENTS.md` → root `AGENTS.override.md`）；Check #5 文件存在断言对称（root `AGENTS.override.md` 应在、`.agent-rules/AGENTS.md` 应不在）；Check #13 删除 `project_doc_fallback_filenames` 引用判断，新增 `child_agents_md` 存在性 + 旧 `fallback_filenames` 残留 WARN；顶部注释 + show_help CHECKS PERFORMED 列表同步更新 |
| `scripts/agent-test.sh` | T1 / T4 / T5 / T6 / T7 / T8 / T8b / T16 / T17 / T18 全部断言路径迁移；T1 加 "no project_doc_fallback_filenames" 反向断言、"child_agents_md = true" 正向断言；T8 加 "no sub-repo AGENTS.md" 反向断言；新增 T25 五个子场景：T25a 根 `AGENTS.override.md` + 内容、T25b `.agent-rules/` 已清扫、T25c config.toml 简化、T25d sub-repo override + agent-check pass、T25e 升级路径（旧 `.agent-rules/AGENTS.md` + sub-repo `AGENTS.md` 手工 plant 后被自动 sweep） |
| `README.md` | §3 Environment Variables 表 Codex Mode 描述更新；§3 Per-Project Setup `.gitignore` 示例 `.agent-rules/` → `AGENTS.override.md`；§3 子命令注释；§4 Cursor pitfall 4 重写（提 nested AGENTS.md + override 解决方案）；§4 "OpenAI Codex (Native Support, HIST-007)" 段重写（自建目录 + fallback 描述全部移除，代之以原生发现 + child_agents_md）；§4 HIST-004 blockquote 注释 `.agent-rules/` 已退役；§4 Shell Wrapper 段重写（任何模式都不再需要 wrapper）；§5 Validation Checklist 三处路径改名；§8 Size Budget；§9 HIST-003/004/006 三处迁移段补 cross-ref；§9 新增 "Migrating to AGENTS.override.md (HIST-007)" 完整迁移小节；§10 FAQ 32KiB + HTML 注释 + multi-repo workspace 三段更新 |
| `issue_history/HISTORY.md` | Summary 表加 HIST-007；本条 |

#### Regression Guards / 回归保障

- `T25a: HIST-007 root AGENTS.override.md` — `AGENTS.override.md` 存在；含 `<!-- Auto-generated by agent-sync` header；含 core 规则关键字。
- `T25b: HIST-007 .agent-rules/ legacy dir removed` — `.agent-rules/` 不存在；`.agent-rules/AGENTS.md` 不存在。
- `T25c: HIST-007 .codex/config.toml simplified` — `child_agents_md = true` 存在；`project_doc_fallback_filenames` **不**存在。
- `T25d: HIST-007 sub-repo AGENTS.override.md` — `<sub_repo>/AGENTS.override.md` 存在；`<sub_repo>/AGENTS.md` 不存在；`agent-check` pass。
- `T25e: HIST-007 upgrade path` — 手工 plant pre-HIST-007 `.agent-rules/AGENTS.md` + `<sub_repo>/AGENTS.md` 后 sync：旧文件全部 swept；新 `AGENTS.override.md` 在 root + sub-repo 都生成；`.agent-rules/` 目录 `rmdir` 成功。
- `T1`：full sync 后断言 `.codex/config.toml` 含 `child_agents_md = true` 且**不**含 `project_doc_fallback_filenames`——保证 generate_codex_config 与 HIST-007 期望同步演进。

#### Limitations / 局限性

- **Cursor 未来若把 `AGENTS.override.md` 加进自动注入列表**：HIST-007 整套设计前提失效。当前文档证据（2026-04-25 验证）明确只匹配 `AGENTS.md` / `CLAUDE.md`，但这是 Cursor 上游决定，不在 agent-sync 控制范围。如果将来观察到 Cursor 行为变化，唯一应对是再换一个 Codex 专属命名（例如 `.codex/AGENTS.md` + 重新走 `project_doc_fallback_filenames`），HIST-007 的代码组织方式（`generate_codex` 单点写文件）便于这种切换。
- **B1 策略对手写 sub-repo `AGENTS.md` 不友好**：用户若在 sub-repo 手写 `AGENTS.md`（例如想给 Cursor nested-AGENTS.md 用），下次 sync 会被无差别删除。这是 pre-HIST-007 已有行为的延续，不是新引入的回归。如果未来收到用户反馈，可以改成 marker-gated（grep auto-generated header）的 B2 策略。
- **`AGENTS.override.md` 是 32KiB 单文件**：Codex 限制 `project_doc_max_bytes` 默认 32 KiB。HIST-007 没改这个限制，仅把存储位置从 `.agent-rules/AGENTS.md` 搬到 root。规则继续增长仍可能触顶——长期方案是子目录拆分（child_agents_md 已启用）。
- **首次升级会触发一次 re-sync**：staleness hash 自 HIST-006 起包含 `*.json` / `*.toml`，HIST-007 的 `.codex/config.toml` 重写 + 文件位置变化 → hash 必变 → 全量 re-deploy。一次性成本，与 HIST-003 / 004 / 005 / 006 升级路径一致。
- **`agent-check` 对 stray `project_doc_fallback_filenames` 是 WARN 而非 FAIL**：考虑到用户可能因为其他原因（例如自定义 fallback 名）保留这一行；但 agent-sync 重新生成时会覆盖回来。如果未来用户反馈 WARN 不够强，再升级为 FAIL。

#### Cross-refs / 关联

- **HIST-001**：本次解构了 HIST-001 时代 "Cursor 重复注入 → 自建 `.agent-rules/`" 的设计。`.agent-rules/` 自建目录路径自此完全退役（HIST-004 退掉 CLAUDE.md，HIST-007 退掉 AGENTS.md）。
- **HIST-002**：multi-repo workspace 设计的核心机制（sub-repo overlay）保留，仅是 Codex 那一份的文件名变了。`.cursor/rules/<sub>-overlay.mdc` + `.claude/rules/<sub>-overlay.md` 路径不变。
- **HIST-004**：CLAUDE.md 退役与 HIST-007 共享 `cleanup_remnants()` + `sync_sub_repos()` 的清扫框架；本次只是再加一个文件名进去。
- **HIST-006**：`opencode.json` 在项目根，HIST-007 在项目根新增 `AGENTS.override.md`——两个工具的"项目根 manifest"现在共存，互不干涉（OpenCode 不读 `.override.md`，Codex 不读 `opencode.json`）。

#### TODOs / 遗留项

- [ ] 跟踪 Cursor 上游是否扩展自动注入列表到 `.override.md`——若有，本次设计需要重做。
- [ ] 用户长期反馈观察：B1 无差别删除 sub-repo `AGENTS.md` 是否会误伤手写场景。如果是，升级到 B2 marker-gated。
- [ ] `extras/agent-extension/` 内若有针对 sub-repo 操作的脚本，需要核查是否依赖旧 `AGENTS.md` 路径。

---

### HIST-006: OpenCode 原生集成 + 每工具 subagent 部署骨架

- **Status / 状态**: Closed
- **Date / 日期**: 2026-04-25
- **Scope / 范围**: `scripts/lib/gen-opencode.sh`（新增）、`scripts/lib/resolve.sh`、`scripts/lib/common.sh`、`scripts/lib/sync.sh`、`scripts/lib/clean.sh`、`scripts/lib/gen-cursor.sh` / `gen-claude.sh` / `gen-codex.sh`、`scripts/agent-sync.sh`、`scripts/agent-check.sh`、`scripts/agent-test.sh`、`templates/overlay-template.md`、`templates/rule_templates/opencode-rule-template.json`、`README.md`、`issue_history/HISTORY.md`

#### 背景 / Background

- OpenCode 发展到足够成熟、用户明确要求把它接入与 Cursor / Claude Code / Codex 同级别的"原生工具"集合。OpenCode 原生从项目根读取 `opencode.json`（`instructions` globs + `permission.skill`）、从 `.opencode/skills/` 发现 skill、从 `.opencode/agent/*.md` 发现 subagent，路径约定与其他三工具只有细节差别。
- 目前 `agent-sync` 已为其他三工具产出规则文件（`.cursor/rules/*.mdc`、`.claude/rules/*.md`、`.agent-rules/AGENTS.md`）。OpenCode 的 `instructions` 正好是 glob 形式，可以直接复用这些输出——**不需要再做一次规则编译**，避免引入第四份 rule assembler 和随之而来的漂移。
- Subagent 方面，各工具的原生路径不一样（`.cursor/agents/`、`.claude/agents/`、`.agents/agents/`、`.opencode/agent/`），文件形式也不一样（CC / Cursor / OpenCode 用带 frontmatter 的 `.md`；Codex 用 `.toml`）。目前 `agent-toolkit` 本仓内没有 subagent 源文件，但 `extras/agent-extension/` 和未来的 bundle 很可能提供 tool-specific 的 subagent；pipeline 需要一个骨架让"部署 subagent"成为一个一等公民，避免后续再做一次大改动。
- 顺带清理 `templates/overlay-template.md` 的旧 `**CC Mode**: dual` 遗留（HIST-004 已经把 `dual` 降级为 deprecated alias，模板却还在推销旧值）。

#### 设计 / Design

**方案 A — 在现有 multi-tool pipeline 基础上加第四档 tool**（最终采纳）。

**D1：`opencode.json` marker-gated ownership**（类比 `.cursor/worktrees.json`）

- 生成的 `opencode.json` 带 `"_generated_by": "agent-sync"` sentinel。
- sync / clean / reconcile 只在文件有 sentinel 时动它；任何没有 sentinel 的 `opencode.json`（手写 config）都视为用户独占。
- `gen-opencode.sh::generate_opencode_config` 检测到无 marker 的文件会 `_warn` 并 early-return（T22 覆盖）。
- `reconcile_mode_outputs` 的 OpenCode=off 分支和 `do_clean` 中 OpenCode 段同样先 `grep -q` marker 再决定是否 `rm`。

**D2：`instructions[]` 复用已有规则文件**（不做第四次规则编译）

- `agent-sync` 按其他工具的 mode 动态拼装 instructions 数组：
  - `.cursor/rules/*.mdc` — 始终写入（Cursor rules 总是由全量 sync 生成）。
  - `.claude/rules/*.md` — 仅在 `CC_MODE != off` 时写入。
  - `.agent-local.md` — 项目根存在时写入。
- OpenCode 的 glob 引擎对缺失路径容忍（missing paths = match 0 files），所以 `CC_MODE=off` 的项目拼出来的 config 依然合法。
- 解决方案副作用：OpenCode 获得"等同 Cursor + CC"的上下文而不做冗余编译——核心 rules / packs / overlay 已被 Cursor / CC 的产出承载，OpenCode 只是 glob 进去即可。

**D3：`permission.skill` 按 SKILL_PREFIX 收窄**

- 空前缀（`Skill Prefix: none`）：保留模板的 `"*": "allow"`——用户主动关闭 namespace guard，说明他信任所有 skill 源。
- 默认 / 自定义前缀（非空）：narrowed 到 `{"<prefix>*": "allow", "*": "ask"}`——agent-toolkit 管理的 skill 自动允许，其他来源的 skill 调用需要用户确认。
- 这一策略让"skill 命名空间"（HIST-005）从文件系统层自动传递到 OpenCode 的 permission 系统，无需用户再手动维护两份配置。T23 覆盖两种情况。

**D4：Subagent 部署骨架（每工具一条 pipeline）**

- 新增通用助手 `deploy_subagent_files(src_dir, target_dir, manifest_file, label)` 到 `common.sh`：
  - 源文件格式允许 `.md` / `.yaml` / `.yml` / `.toml`，对应 frontmatter 形式各异——通过 `_apply_subagent_prefix(file, ext)` 统一改写 `name` 字段（YAML 用 `^name:`；TOML 用 `^name = "..."`）。
  - 目标文件名携带 `SKILL_PREFIX`（与 skill 对齐，HIST-005 的命名空间收口延伸到 subagent）。
  - manifest 驱动的 stale cleanup（同 `deploy_artifacts`）：每次 sync 先读旧 manifest，再写新 manifest，交集外的旧文件一律删除。
  - 源目录为空或缺失 → no-op deploy（`echo "  Skipping: empty source"`），但旧 manifest 仍会触发 cleanup——这让"先启用再禁用 subagent"的用户不会留残留。
- 每个工具的 `gen-*.sh` 新增一个 wrapper：`generate_cursor_subagents` / `generate_cc_subagents` / `generate_codex_subagents` / `generate_opencode_subagents`。即便目前 `subagents/<tool>/` 都是空，pipeline 也已经能运转；未来 bundle 引入 subagent 时，**只需往对应子目录丢源文件，无需改 pipeline**。

**D5：Mode 系统扩到四档对称**

- `resolve.sh` 新增 `resolve_opencode_mode()`，语义与 `resolve_cc_mode` 完全对称（默认 `native`；`off` 关闭所有 OpenCode 输出）。
- `check_staleness` 中加入 `opencode_config_ok` 标志：`native` 模式下 `opencode.json` 缺失 → stale；文件存在但无 marker（用户拥有） → 不 drive staleness（`= true`）；marker 存在 → 用普通 hash 流程。
- `reconcile_mode_outputs` 加入 OpenCode=off 回收段：marker-gated `opencode.json` 删除、两个 OpenCode manifest (`skills` + `agent`) 清理、`.opencode/skills/` / `.opencode/agent/` / `.opencode/` 依次 `rmdir --ignore-fail-on-non-empty`。

**D6：`agent-check.sh` 动态 check index 架构**

- 旧代码写死 `TOTAL_CHECKS - 2` 之类的算术，假设 Codex 是最后一个 optional block；OpenCode 接进来后这个假设破产。
- 重构为 `CODEX_BASE` / `OPENCODE_BASE` 基址变量：每个 optional block 自行推进基址，永远拿到正确的 per-check 索引，且与 mode 开关完全解耦。
- OpenCode 新增三条 check（index 16-18 在所有 mode 全开时）：`opencode.json` JSON + marker + glob 存在性；`.opencode/skills/` 与 manifest 一致；OpenCode skills 集合与 Cursor / CC 一致。

**D7：顺带修 `overlay-template.md`**

- 旧模板 `**CC Mode**: dual` → `native`（HIST-004 把 `dual` 降级为 deprecated alias 之后，新项目不该再被模板推向旧值）。
- 新增 `**OpenCode Mode**: native` 占位（overlay 缺失时 `resolve_opencode_mode` 也 fallback 到 `native`，这里更多是"可见性"——让 `.agent-local.md` 一眼就能看到四档模式）。

#### 实现 / Implementation

| 文件 | 变更 |
|------|------|
| `scripts/lib/gen-opencode.sh`（新增） | `OPENCODE_MARKER` 常量 + `generate_opencode_config`（marker-gate 判断、instructions 数组动态拼装、permission.skill 按 SKILL_PREFIX 收窄）+ `generate_opencode_skills`（`deploy_artifacts` 到 `.opencode/skills/`）+ `generate_opencode_subagents`（`deploy_subagent_files` 到 `.opencode/agent/`）|
| `scripts/lib/resolve.sh` | 新增 `resolve_opencode_mode`（读 `**OpenCode Mode**:`，默认 `native`，仅接受 `off`/`native`，其他值 warn 后 fallback）；`check_staleness` 的 `rules_hash` `find` 扩展包含 `*.json` 和 `*.toml`（捕捉 OpenCode JSON 模板与 Codex subagent TOML 的变动）；新增 `opencode_config_ok` 标志并串入总 staleness 判定 |
| `scripts/lib/common.sh` | 新增私有 `_apply_subagent_prefix(file, ext)`（YAML `^name:` / TOML `^name = "..."` 分支，perl in-place，python3 兜底，幂等）；新增 `deploy_subagent_files(src_dir, target_dir, manifest_file, label)`：扫 `$src_dir` 和 `extras/<bundle>/` 下对应子目录，单文件部署时复制 + rename + prefix，manifest 驱动 stale cleanup，空源时 no-op 但仍清理历史条目 |
| `scripts/lib/gen-cursor.sh` / `gen-claude.sh` / `gen-codex.sh` | 各自新增 `generate_cursor_subagents` / `generate_cc_subagents` / `generate_codex_subagents`（都是 `deploy_subagent_files` 的一行 wrapper，`subagents/<tool>/` → `.cursor/agents/` / `.claude/agents/` / `.agents/agents/`） |
| `scripts/lib/sync.sh` | `reconcile_mode_outputs` 新增 `OPENCODE_MODE=off` 分支（marker-gated rm + 两 manifest 清理 + 三级 rmdir）；CC_MODE=off 分支顺带回收 `CC_SUBAGENTS_MANIFEST` + `.claude/agents/`；CODEX_MODE=off 与 CODEX_MODE=legacy 分支顺带回收 `CODEX_SUBAGENTS_MANIFEST` + `.agents/agents/` |
| `scripts/lib/clean.sh` | `do_clean` 追加 Cursor / CC / Codex / OpenCode 四段 subagent 清理；OpenCode 段额外处理 marker-gated `opencode.json` + `.opencode/` 三级 rmdir |
| `scripts/agent-sync.sh` | source `gen-opencode.sh`；新增五个全局 manifest 路径常量（`CURSOR_SUBAGENTS_MANIFEST` / `CC_SUBAGENTS_MANIFEST` / `CODEX_SUBAGENTS_MANIFEST` / `OPENCODE_SKILLS_MANIFEST` / `OPENCODE_SUBAGENTS_MANIFEST`）；subcommand dispatch 扩展 `opencode` / `opencode-config` / `opencode-skills` / `opencode-subagents` / `subagents`（所有工具汇总 no-op-safe 入口）；`sync` 分支在每个 mode 启用时调用对应的 subagent 生成，并把 OpenCode 三步（config / skills / subagents）作为新的部署段 |
| `scripts/agent-check.sh` | 新增 OpenCode mode 检测（从 `.agent-local.md` 读 `**OpenCode Mode**:`）；`TOTAL_CHECKS` 重构为基址架构（`CODEX_BASE` / `OPENCODE_BASE` 显式演进），解决 Codex 旧代码写死的 `-2` 在 OpenCode 接入后失效；`OPENCODE_MODE=native` 加入 check 16-18（`opencode.json` + skills manifest + OpenCode/CC/Cursor skill 集合一致性）；Codex 段 per-check 索引改用 `CODEX_BASE + n` 算法 |
| `scripts/agent-test.sh` | `write_overlay` 签名扩展第四参 `opencode_mode`（默认 `native`）并在生成的 `.agent-local.md` 里写入 `**OpenCode Mode**:`；新增 T20 / T21 / T22 / T23 / T24 五条 OpenCode regression guard |
| `templates/overlay-template.md` | `**CC Mode**: dual` → `**CC Mode**: native`（清 HIST-004 遗留）；新增 `**OpenCode Mode**: native` 行 |
| `templates/rule_templates/opencode-rule-template.json`（新增） | OpenCode config 模板骨架：`$schema` URL、空 `instructions` / `permission.skill` 占位，由 `generate_opencode_config` 运行期拼装 |
| `README.md` | §1 主副标题加 OpenCode；§2 目录结构新增 `subagents/<tool>/` 目录、OpenCode 模板位置；§3 `.gitignore` 示例加 `.cursor/agents/` / `.agents/` / `opencode.json` / `.opencode/`；§3 Daily Usage 启动命令清单加 `opencode`；§3 subcommand 表加 5 条 OpenCode 行；§3 Environment Variables 追加 per-project knobs 表（CC/Codex/OpenCode Mode + Skill Prefix）；§4 新增"OpenCode (Native Support / HIST-006)"小节；§4 Skill Prefix 段扩展为 skills + subagents 两张示意图；§5 Validation Checklist 加 3 条 OpenCode check；§6 评价标准"三工具"→"四工具"；§7 回归测试说明"三工具"→"四工具"；§9 Maintenance 触发条件表加 OpenCode 相关行；§9 新增"Adopting OpenCode (HIST-006)"小节（auto-handled / opt-out / coexistence / skill permission / scope / history） |
| `issue_history/HISTORY.md` | Summary 表加 HIST-006 行；本条 |

#### Regression Guards / 回归保障

- `T20: OpenCode Mode=native full sync` — 断言：(1) `opencode.json` 存在且合法 JSON，(2) 文件含 `_generated_by: agent-sync` marker，(3) `instructions` 数组含 `.cursor/rules/*.mdc` 和 `.claude/rules/*.md`，(4) `.opencode/skills/gla-pre-commit/SKILL.md` 存在且 frontmatter `name: gla-pre-commit`，(5) `OPENCODE_SKILLS_MANIFEST` 存在，(6) `agent-check` 通过。
- `T21: OpenCode Mode=off reconcile` — 先 `native` sync 写出所有 OpenCode 产物，再 `off` 重 sync：断言 `opencode.json` 被删除、`.opencode/` 被清空，其他工具产物（Cursor / CC / Codex）不受影响。
- `T22: User-authored opencode.json preserved` — 手写 `opencode.json`（无 marker）→ `agent-sync` 不动它（无 marker 判定 skip），`agent-check` 对该文件的断言降级为"JSON 合法"，其他 mode 模式下的产物正常生成。
- `T23: Custom skill prefix → narrowed permission.skill` — overlay `**Skill Prefix**: myproj` 时 `opencode.json.permission.skill = {"myproj-*": "allow", "*": "ask"}`；overlay `**Skill Prefix**: none` 时 `permission.skill = {"*": "allow"}`。
- `T24: Explicit OpenCode subcommands` — `agent-sync opencode-config`（仅写 `opencode.json`）、`agent-sync opencode-skills`（仅写 `.opencode/skills/`）、`agent-sync subagents`（所有工具汇总，空源 no-op exit 0）、`agent-sync opencode` 在 `OpenCode Mode=off` 下打 WARN 且 exit 0（不 hard-fail）。

#### Limitations / 局限性

- **`subagents/<tool>/` 目前全是空**：pipeline 已就绪但无实际产物。这是"骨架先落地、内容随 bundle / extras 逐步进场"的策略。如果用户期待"agent-sync 立即部署某个 agent-toolkit 自带的 subagent"，本次 commit 还不能满足——第一批内置 subagent 留给后续工作（见 TODOs）。
- **`.opencode/agent/` 用单数 `agent`**：OpenCode 的原生约定是 `.opencode/agent/`（单数），这里没有按 `agents/` 对齐其他三工具。这是上游 API，agent-sync 无法强制改变；文档中已显式说明 OpenCode 的目录名。
- **marker 硬编码字符串**：`OPENCODE_MARKER='"_generated_by": "agent-sync"'` 是个纯字符串 `grep -q`，对 JSON 格式（引号、空格）敏感。如果手动编辑 `opencode.json` 时改动了这一行的空格排布，marker 可能失配 → 文件会被视为用户所有 → `agent-sync` 不再覆盖它。这是预期行为（一旦用户改动了 marker，就意味着他想接管配置），但需要在 README 的 "Coexisting with a hand-authored `opencode.json`" 段落明确。
- **instructions 不展开 sub-repo overlay 的专属路径**：OpenCode 只读根目录 `opencode.json`。Cursor 的 `.cursor/rules/*.mdc` 已经按 overlay 写出 glob scoped 的 sub-repo 规则，OpenCode 通过 `instructions[] = ".cursor/rules/*.mdc"` 能拿到这些 glob——但不等于 OpenCode 自己会按子目录解析 `.agent-local.md`。如果未来需要 OpenCode 的 sub-repo overlay 精细粒度，得单独设计（例如让 OpenCode 读 `.claude/rules/*-overlay.md`，目前已经做到了）。
- **permission.skill narrowing 只处理 `<prefix>*` 通配**：对"前缀外的 skill 如 extras 里的独立命名空间"暂未做 per-bundle 细粒度授权。当前约束是"所有 agent-toolkit 部署的 skill 都共享同一前缀"，与 HIST-005 一致。如果未来有 bundle 要求独立 namespace，需要把 `permission.skill` 的生成逻辑从单 prefix 拓展到多 prefix 列表。
- **Codex subagent 文件格式假设 `.toml`**：`_apply_subagent_prefix` 对 TOML 分支用 `name = "..."` 精确匹配第一行；如果未来 Codex 改成 YAML / JSON frontmatter，需要增加分支。目前以 Codex 官方当前约定为准。

#### Cross-refs / 关联

- **HIST-005**：本次 OpenCode 的 skill 部署、前缀规则完全继承 HIST-005；`permission.skill` narrowing 是 HIST-005 的"文件系统 namespace"在 OpenCode permission 层的 1:1 映射。
- **HIST-004**：模板里 `CC Mode: dual → native` 的修复属于 HIST-004 的收尾——HIST-004 时动了 resolver 的 fallback，但未回头改模板；本次顺手清理。
- **HIST-003 / deploy_artifacts 单一入口**：`deploy_subagent_files` 的设计直接套用 `deploy_artifacts` 的 manifest-driven cleanup 哲学；未来任何新工具的 subagent 部署只要 source 一段即可接入。

#### TODOs / 遗留项

- [ ] 第一批内置 subagent 设计：`simple-review` / `pre-commit` 以外有哪些任务适合作为"每工具 subagent"（而不是 cross-tool skill）？待与用户对齐后 seed `subagents/{cursor,cc,codex,opencode}/`。
- [ ] `agent-check` 的 OpenCode 段目前只校验 skills 集合一致性；尚未校验 `.opencode/agent/` 与其他工具 subagent 集合的一致性——等 `subagents/` 有产物后补上。
- [ ] `async-agent-rules.sh` 本次未更新；需要验证后台 sync 在启用 OpenCode 时是否会丢失 `opencode.json` marker（理论上不会，但值得一次端到端测试）。
- [ ] 观察用户对 `permission.skill = {"*": "ask"}` 的实际体验——如果"其他 skill 全部要确认"对某些工作流过于打扰，可能需要在 overlay 里再开一个 `**OpenCode Skill Policy**:` 旋钮。

---

### HIST-005: Skill 命名空间前缀（`gla-` default）

- **Status / 状态**: Closed
- **Date / 日期**: 2026-04-21
- **Scope / 范围**: `scripts/lib/resolve.sh`, `scripts/lib/common.sh`, `scripts/agent-sync.sh`, `scripts/agent-test.sh`, `README.md`, `issue_history/HISTORY.md`

#### 背景 / Background

`skills/` 下已经有 `pre-commit` / `simple-review`，未来会越来越多；同时 `extras/agent-extension` 也提供自有 skill。Cursor / Claude Code / Codex 在 workspace 内解析 skill 时，**按名字查找**（`/pre-commit`, `/simple-review` …），没有 namespace。当用户同时订阅多个 skill 来源（agent-toolkit、agentskills.io catalog、手写 skill、其他 rule pack）时，**撞名**会导致不可预测的解析：CC 甚至直接报错 "Duplicate skill name"。

我们需要在部署环节加一层 namespace，让 agent-toolkit 生产的 skill 和其他来源在名字级别清晰可分，又不强迫用户改源目录结构。

#### 设计 / Design

**方案 B（最终采纳）**：部署时统一加前缀 `gla-`，通过 overlay 可定制。

- **影响两处**：目标目录名（`.cursor/skills/gla-pre-commit/`）和 `SKILL.md` frontmatter 的 `name: gla-pre-commit`。agent 调用 skill 靠 `name:` 字段；只改目录不改 frontmatter 对 invocation 无效。
- **可配置**：`.agent-local.md` 里加 `**Skill Prefix**: <value>`：
  - 空 / 缺失 → default `gla-`
  - `none` / `off` / `-` → 完全关闭前缀（bare name 部署）
  - `myproj` → auto-dash → `myproj-`
  - `myproj-` → 原样使用
- **一视同仁**：核心 `skills/` 和所有 `extras/<bundle>/skills/` 用同一前缀；假设所有 skill 源走同一命名规范（这是当前 agent-toolkit deploy pipeline 的假设）。
- **幂等**：`_apply_skill_prefix` 对 frontmatter `name:` 检查 `startsWith($prefix)`，重复 sync 不会产生 `gla-gla-…`；目录层面 `deploy_artifacts` 每次 `rm -rf $item_target` 再重建，天然幂等。
- **staleness 同步**：`check_staleness` 把 manifest 比对也改成 prefix-qualified（`${SKILL_PREFIX}$(basename "$expected_skill")`），否则切换 prefix 后会永久 re-sync。
- **切换清理**：`deploy_artifacts` 尾端的 manifest-driven stale cleanup 自动删除旧前缀下的目录（T19e 覆盖）。

#### 实现 / Implementation

| 文件 | 改动 |
|------|------|
| `scripts/lib/resolve.sh` | 新增 `SKILL_PREFIX="gla-"` 默认值 + `resolve_skill_prefix()`（overlay 读取、auto-dash、`none`/`off`/`-` opt-out、export）；`check_staleness` 里 skills manifest 比对改成 `${_sp}$(basename ...)` 带前缀 |
| `scripts/lib/common.sh` | 新增私有 `_apply_skill_prefix()`（perl `-i` in-place 重写首个 `^name:` 行，macOS/Linux 统一；python3 兜底）；`deploy_artifacts` 核心循环 + extras 循环都把 `item_target` 从 `item_name` 改为 `${prefix}${item_name}`，部署后调用 `_apply_skill_prefix "$item_target"`，manifest 记录 prefixed name |
| `scripts/agent-sync.sh` | `sync` / `skills` / `codex-native` / `cc` / `cc-skills` 五个分支在 skill 部署前加 `resolve_skill_prefix`（`cc-rules` 不涉及 skills，不需要） |
| `scripts/agent-test.sh` | T1 / T11 原 bare-name 断言改为 `gla-*`，并追加三条"bare 不应存在"反向断言；新增 T19 五个子场景（T19a 默认 + frontmatter，T19b 幂等，T19c 自定义前缀 + auto-dash，T19d `none` opt-out，T19e 切换前缀清理旧目录） |
| `README.md` | §4 (Claude Code 段后) 新增 "Skill Prefix / Skill 命名空间 (HIST-005)" 小节，解释 overlay 语法、调用方式、default；§3 示例注释更新为 `gla-pre-commit`；§9 新增 "Migrating to prefixed skills (HIST-005)" 小节 |
| `issue_history/HISTORY.md` | 本条 |

#### Regression Guards

- `T19a: Default 'gla-' prefix applied to core + frontmatter` — `agent-sync` 默认：目录 `.cursor/skills/gla-pre-commit/` + `.claude/skills/gla-pre-commit/` + `.agents/skills/gla-pre-commit/` 均存在；`SKILL.md` 里 `^name: gla-pre-commit`；manifest 里 `gla-pre-commit`。
- `T19b: Idempotent re-sync (no double-prefix)` — 连续 `agent-sync` + `agent-sync cc-skills` 后：不存在 `gla-gla-pre-commit/` 目录；`SKILL.md` 不出现 `^name: gla-gla-`。
- `T19c: Overlay custom prefix with auto-dash` — overlay `**Skill Prefix**: myproj`（无尾划线）→ 目录 `myproj-pre-commit/` + frontmatter `name: myproj-pre-commit`；default `gla-*` 不产生。
- `T19d: 'none' opt-out deploys bare names` — overlay `**Skill Prefix**: none` → 目录 `pre-commit/` + frontmatter `name: pre-commit`（bare）；`gla-*` 目录不存在。
- `T19e: Prefix switch cleans previous generation` — 先 default sync，再切到 `**Skill Prefix**: myproj-` 重 sync：`myproj-pre-commit/` 在位，原 `gla-pre-commit/` 已被 manifest 清理删除。

#### 限制 / Limitations

- **首次升级会触发一次 re-sync**：旧版本 manifest 记录裸名，新版本期望前缀名 → `skills_ok=false` → 全量 re-deploy。这是预期行为（和 HIST-003/004 类似）。运行一次 `agent-sync` 即可收敛。
- **YAML 格式假设**：`_apply_skill_prefix` 只重写**第一个** `^name:` 行（perl regex `$done` flag）。这假设 frontmatter 在文件顶端且 `name:` 在第一次出现时一定是 frontmatter 里的值——这符合 agent-toolkit 当前所有 `SKILL.md` 的写法。如果以后有 skill 在 frontmatter 外也写了一条 `name:` 在更靠前的位置（例如文件第一行就是注释里引用了 `name:`），重写会错位；但这需要手动构造异常 skill，现有任何 skill 都不触发。
- **opt-out 不保留前缀历史**：从 `gla-` 切到 `none` 时，deploy_artifacts 的 stale cleanup 会删除所有 `gla-*` 目录。如果用户在这些目录下手动加了文件（不该这么做，agent-sync 是单向部署），会一并丢失。和 HIST-003/004 的 cleanup 策略一致。
- **自定义 prefix 不校验合法性**：我们不限制字符集。如果用户写了 `**Skill Prefix**: /bad`（会产生 `/bad-pre-commit/` 这样的路径），`mkdir -p` 会失败或产生子目录。建议保持 `[a-z0-9-]+` 字符集——未来可以加校验，目前靠用户自律。
- **与 Cursor 原生 skill 扫描路径的兼容**：Cursor 按目录名扫 `.cursor/skills/*/SKILL.md`，无其它约束，目录叫什么都可以。Codex 的 `.agents/skills/` 同理。CC 的 `.claude/skills/` 类似。前缀不会破坏任何原生发现路径。

#### Cross-refs / 关联

- HIST-003：退役 commands/ 子系统，把 `pre-commit`/`simple-review` 变成跨工具 skill；本次命名空间化直接继承那些 skill 的部署链路。
- HIST-004：CLAUDE.md 退役，进一步收敛"agent-toolkit 只写 `.claude/rules/` + `.claude/skills/`"的单一约定；加前缀让"所有 agent-toolkit 生成的 skill"在仓库里一眼可识别。
- `deploy_artifacts` 现在是所有 skill 部署的单一入口——任何新增的 skill 源（未来可能的 `extras/<new-bundle>/skills/`）都会自动走前缀逻辑，无需额外改动。

---

### HIST-004: CLAUDE.md 退役（CC 原生 `.claude/rules/` 接管）

- **Status / 状态**: Closed
- **Date / 日期**: 2026-04-21
- **Related commits / 关联提交**: (pending — this commit)

#### Background / 背景

- Claude Code v2.0.64+ 原生读取 `.claude/rules/*.md`（带 `globs:` frontmatter 的 per-file rules）与 `.claude/skills/`，CC Mode `dual` 下同时产出的 `.agent-rules/CLAUDE.md` 单体文件早已不再被加载——这个路径的唯一遗留用途是"shell wrapper + symlink"兜底，而该兜底本身也在 v2.0.64+ 被 `.claude/` 原生发现取代。用户明确使用最新 CC。
- `generate_codex` 依赖 `generate_claude` 作为中间产物的设计把两个工具的代码路径耦合在一起：Codex 的 `AGENTS.md` 其实是先 `generate_claude` → `cp CLAUDE.md AGENTS.md` → `sed` 替换头部注释，导致 `.agent-rules/CLAUDE.md` 被不管 CC 模式、不管是否需要都被顺带写出。简化这条耦合能同时降低维护面和意外产物。
- `CC Mode=dual` 这一档本质上只是"native + 多造一份 legacy CLAUDE.md 当兜底"，兜底既失效，这一档就没有理由存在；只保留 `{off, native}` 与 Codex Mode `{off, legacy, native}` 的三档对称。

#### Design / 设计方案

- **Clean Break (方案 A)**：整段移除 `.agent-rules/CLAUDE.md` 的生成、sub-repo 侧 `CLAUDE.md` 的生成、`agent-sync claude` 子命令与 CC Mode `dual`。
- **D1X — `CC Mode: dual` 保留为过渡别名**：`resolve_cc_mode()` 读到 `dual` 时 fallback 到 `native` 并打印一条 `DEPRECATED:` 警告；`agent-check.sh` 同样 silent-fold 为 `native`（不重复 warn）。避免老 `.agent-local.md` 在升级后直接硬失败。
- **D2X — `agent-sync claude` 子命令打专项 error**：显式 `case claude)` 分支，exit 2 并打印 HIST-004 迁移提示 + `cc-rules` 等效替代建议；同时新增 `case *)` 兜底把未知子命令/路径与 `-*` 未知 flag 区分出来，避免 `cd claude` 这种沉默降级。
- **Codex 解耦**：在 `gen-codex.sh` 新增私有辅助 `_build_agents_body`，把"header + core + 激活 packs + overlay"的 concat 逻辑迁移到 Codex 自己这边，`generate_codex` 不再调用 `generate_claude`。

#### Implementation / 实现方案

| 文件 | 变更 |
|------|------|
| `scripts/lib/resolve.sh` | `CC_MODE` 默认 `dual → native`；`resolve_cc_mode` `case` 折掉 `dual` 为 `native` 并打 `DEPRECATED:`；`check_staleness` 删 `claude_exists` 状态跟踪与 `claude_required` 分支，仅保留 `agents_required`，staleness 不再关心 CLAUDE.md 是否存在 |
| `scripts/lib/gen-claude.sh` | 删除 `generate_claude` 整段函数；顶部文档改为"Claude Code native generation (.claude/rules/, skills/)" + HIST-004 说明 |
| `scripts/lib/gen-codex.sh` | 新增私有 `_build_agents_body`（承接原 `generate_claude` 的 concat 管线）；`generate_codex` 改为直接 `_build_agents_body` + 32KiB 尺寸校验，不再 `cp CLAUDE.md` + `sed` |
| `scripts/lib/sync.sh` | `cleanup_remnants()` 追加 `rm -f .agent-rules/CLAUDE.md`；`sync_sub_repos()` 把 sub-repo 侧输出改为直写 `AGENTS.md`（Codex 模式开时）+ 无条件 `rm -f $sub_dir/CLAUDE.md`（清存量）；日志报出 overlay 字节数而非 CLAUDE.md 字节数 |
| `scripts/agent-sync.sh` | USAGE/SUBCOMMANDS/EXAMPLES 删除 `claude` 描述，新增 NOTE 指向 HIST-004；`case` 语句拆出 `claude)` 专项 error、`'')` 空分支、`-*)` 未知 flag error、`*)` 未知子命令/路径兜底；删除 `claude` 子命令分支；`sync` 分支把原 "CC=native+Codex=off 时跳过" 简化为"仅 Codex≠off 时 `generate_codex`" |
| `scripts/agent-check.sh` | `CC_MODE` 默认 `dual → native` + `dual` silent-fold；CLAUDE.md 断言反转：存在即 FAIL（HIST-004 升级残留），不存在即 PASS；AGENTS.md 断言保留并只依赖 `CODEX_MODE` |
| `scripts/agent-test.sh` | `write_overlay` default `cc_mode` `dual → native`；T1/T4/T5/T6/T7/T8/T8b/T9 的 `test -f CLAUDE.md` 全部反转为 `test ! -f`，T8 额外新增 "No sub-repo CLAUDE.md" 与 "Sub-repo AGENTS.md" 断言；T5/T6 用 `dual` 跑一次以顺带覆盖 alias 路径；新增 T16 / T17 / T18 三条 HIST-004 regression guard |
| `README.md` | §3 目录树注释 `CLAUDE.md → .claude/rules/*.md`；subcommand 表删 `claude` 行并追加 HIST-004 NOTE；§4 "Claude Code (Native Support)" 段重写（`dual` 删除、加 HIST-004 blockquote + fallback 说明）；Shell Wrapper 段删 `claude-run`、Exit criteria 更新；Validation Checklist `File existence` 行反转 CLAUDE.md 语义；Size Budget 删 "Assembled CLAUDE.md"；§9 新增 "Migrating from CC Mode dual / CLAUDE.md (HIST-004)" 小节；Q&A `.agent-local.md` HTML 注释回答把 `CLAUDE.md` 改为 `.claude/rules/*.md`；sub-repo overlay 段更新为"sub-repo `AGENTS.md` + 根 `.claude/rules/<path>-overlay.md`" |

#### Regression guards / 回归保障

- `T16: CC Mode 'dual' deprecated alias` — `write_overlay P16 dual native`，断言：(1) stderr 含 `DEPRECATED: CC Mode 'dual'`，(2) `.agent-rules/CLAUDE.md` 不生成，(3) `AGENTS.md` 仍生成，(4) `.claude/rules/` 仍生成，(5) `agent-check` pass。
- `T17: Legacy CLAUDE.md upgrade cleanup` — 先 `agent-sync` 成功，随后手工 plant `.agent-rules/CLAUDE.md` + `libs/core/CLAUDE.md`（模拟 pre-HIST-004 部署），删 hash 强制 re-sync，断言：(1) 根 CLAUDE.md 被清，(2) sub-repo CLAUDE.md 被清，(3) AGENTS.md + sub-repo AGENTS.md 仍在。
- `T18: 'agent-sync claude' rejected` — `"$AGENT_SYNC" claude "$P18"` 退出码非零，stderr 含 `removed in HIST-004`，且 P18 下未生成 `.agent-rules/CLAUDE.md`（即未 silent-cd 进 `claude/`）。

#### Limitations / 局限性

- **`dual` 过渡别名仅是 *soft* deprecation**：目前 `resolve_cc_mode()` 在每次 sync 时都会打一条 `DEPRECATED:`；没有硬截止日期，也没有"N 次警告后强制 FAIL"的 escalation。长期看可以在下一次 CC Mode 语义变动时清掉 `dual)` 分支，但本次不动。
- **User-authored sub-repo `CLAUDE.md` 的误伤边界**：`sync_sub_repos` 的 `rm -f "$sub_dir/CLAUDE.md"` 对所有带 `.agent-local.md` 的 sub-repo 无条件执行。若用户在 sub-repo 根手写了 `CLAUDE.md`（把它当 Anthropic 规范的 per-repo rules 用），这次 sync 会把它一并删掉。考虑到 (a) 工具此前一直声称"sub-repo `CLAUDE.md` 由 agent-sync 生成"、(b) 本 commit 明确声明 HIST-004 移除这条写入路径，把这个路径视作 agent-sync 独占是合理假设——但若后续有用户反馈，可加一个"只删带 auto-generated 头部的 CLAUDE.md"的精细化条件。
- **AGENTS.md 内容路径变更需要重算 hash**：`_build_agents_body` 写的 header 改为"Auto-generated by agent-sync for Codex. Do not edit manually."（与旧 `sed` 替换后的结果一致），但调用时序从 `generate_claude → cp → sed` 改为直接写入，首次升级会触发一次 re-sync（与 HIST-003 hash 段变更类似）。
- **`agent-sync claude` 路径兜底的 `case *)` 副作用**：新加的 `*)` 分支依赖 `[ -e "$1" ]` 判断是否是合法 project-dir；若用户传入的 arg 既不是已知子命令也不是已存在路径，会在 `cd` 前就 exit 2，不再降级为 `cd typo` 的原生错误。这比以前友好，但会拒绝"先 agent-sync 再 mkdir 目标目录"这种极端顺序的用法——此时请先创建目录。

#### TODOs / 遗留项

- [ ] 若持续观察到用户仍写 `CC Mode: dual`，考虑在 N 个版本后把 `resolve_cc_mode()` 的 `dual)` 分支从 soft warn 升级为 hard error 并给出最终迁移窗口。
- [ ] `extras/agent-extension/` 本次未涉及；下游 hooks / plugins 若还在读 `.agent-rules/CLAUDE.md`，需要统一改为读 `.claude/rules/` 或直接依赖 CC 自身的加载机制。
- [ ] `async-agent-rules.sh` 及其他围绕 "后台 sync" 的脚本本次只做 syntax 级兼容性检查，未做端到端验证——若后续发现 async 路径仍在 touch CLAUDE.md，应当追加 regression test。

---

### HIST-003: Commands/Review 子系统退役

- **Status / 状态**: Closed
- **Date / 日期**: 2026-04-21
- **Related commits / 关联提交**: (pending — this commit)

#### Background / 背景

- `commands/` 子系统只在 Cursor 中以 `/xxx` slash command 形式被识别，Claude Code 和 Codex 都没有对等机制，导致同一份内容要么被复制，要么降级为无效部署。维护 `deploy_artifacts` + 两份 manifest (`COMMANDS_MANIFEST` / `CC_COMMANDS_MANIFEST`) 却只服务单一 IDE，性价比低。
- 原 `30-review-criteria.mdc` + `.cursor/commands/review.md` 的多模型 review 流程涉及 reviewer 配置、模型矩阵、`/review` dispatcher 等复杂组合，超出 `agent-toolkit` core 应承载的通用规则范畴，应下沉到可选 extension。
- `pre-commit` 命令本质是"为当前 repo 起草 commit message"的跨工具操作，和 IDE 层的 slash-command 没有绑定关系，更适合 cross-tool skill。

#### Design / 设计方案

- **删除整个 `commands/` 目录**以及围绕它的基础设施：`deploy_artifacts` 的 `files` 模式、`COMMANDS_MANIFEST` / `CC_COMMANDS_MANIFEST`、`gen-cursor.sh` 和 `gen-claude.sh` 中部署命令的代码路径。
- **`pre-commit.md` → `skills/pre-commit/SKILL.md`**：作为跨工具 skill（Cursor / Claude Code / Codex 都能加载），携带 YAML frontmatter + `when_to_use` 触发器。
- **`review` 子系统分拆**：
  - 新增 `skills/simple-review/SKILL.md` 作为轻量单模型 review 的 cross-tool 回退入口；
  - 多模型编排（reviewer 矩阵、dispatcher、criteria）迁往 `extras/agent-extension/`，保持 core repo 精简；
  - 过渡期间保留用户在 parent workspace `.cursor/agents/reviewer-*.md` 下自行维护的 reviewer 配置——**agent-sync 不对这些路径做任何自动清理**。
- **User-managed artifact 保护原则**：`.cursor/commands/` / `.cursor/agents/` / `.cursor/reviewer-models.conf` 在 Cursor 中可以由用户自行创建，`agent-toolkit` 不再写入、也不清理。这和 `agent-sync` 自管辖的 `.claude/commands/` / `.cursor/rules/30-review-criteria.mdc` 等本次清理目标严格区分。

#### Implementation / 实现方案

| 文件 | 变更 |
|------|------|
| `commands/` 目录 | 删除（`pre-commit.md` / `review.md` / `README.md` 等） |
| `core/30-review-criteria.md` | 删除 |
| `skills/pre-commit/SKILL.md` | 新增，跨工具 commit-draft skill |
| `skills/simple-review/SKILL.md` | 新增，跨工具单模型 review fallback |
| `scripts/lib/common.sh` | `deploy_artifacts` 简化为仅 `dirs` 模式，删除 `files` 分支 |
| `scripts/lib/gen-cursor.sh` | 移除 commands 部署；新增 `.cursor/rules/30-review-criteria.mdc` 一次性 orphan 清理 |
| `scripts/lib/gen-claude.sh` | 移除 commands 部署 |
| `scripts/lib/sync.sh` | `cleanup_legacy_cc_commands` manifest-driven 精确清理（列表逐文件删除 + 空则 rmdir，保留 user-authored 文件） |
| `scripts/lib/clean.sh` | `do_clean` stamp-gated 清理 legacy `.claude/commands/` + `.cursor/.reviewer-models-agent-sync` 孤儿 stamp |
| `scripts/agent-sync.sh` | USAGE/EXAMPLES 去掉 commands；新增 `cc-rules` / `cc-skills` 显式子命令；`cc` / `cc-rules` / `cc-skills` 三支全部调用 `cleanup_legacy_cc_commands` |
| `scripts/agent-check.sh` | 删除 commands 部署检查，renumber；CC/Cursor 比较从 `-eq` 改为 `-le` + 详细注释；`CC_SKILLS_MF` 下游 Codex 块改为本地别名避免 `set -u` unbound；warning 文案拆分 `CC=0 & Cursor>0`（部署失败）与 both=0（空库）两支 |
| `scripts/agent-test.sh` | T1 新增 per-skill + P0 regression 断言，正则收紧为 `\(\[0-9\]+\)`；T11 覆盖 `cc-rules` / `cc-skills` 独立部署；T12a-d 覆盖 stamp-gated 清理三种场景 + mixed-ownership；T13 orphan `30-review-criteria.mdc` 清理；T14 `cc` / `cc-rules` / `cc-skills` 均 fire cleanup；T15 `.cursor/.reviewer-models-agent-sync` stamp 在 `clean` 时移除 |
| `skills/project-overlay/SKILL.md` | 新增 `when_to_use` 字段，version 1.1 → 1.2，与其余 skill frontmatter 口径一致 |
| `skills/agent-memory/SKILL.md` | 新增 `when_to_use` 字段，version 1.1 → 1.2 |
| `README.md` | 目录树、gitignore 示例、USAGE、Validation checklist 全面更新；§9 新增 "Migrating from pre-decommission layout" + 首次升级 hash re-sync 说明 |
| `.agent-local.md` | 同步项目内部目录树描述 |

#### Limitations / 局限性

- **User-managed path 保护**（交叉引用 `README.md` §9）：`agent-sync` **不会自动迁移** parent workspace 下的 `.cursor/commands/`、`.cursor/agents/reviewer-*.md`、`.cursor/reviewer-models.conf`——这是刻意设计，Cursor 将这些路径视为用户自管的 slash-command / reviewer 配置域，在 extension 落地前用户可继续手动维护过渡期 reviewer 矩阵。
- **`extras/agent-extension/` `/review` planned-state**：目前尚未实装，`skills/simple-review/SKILL.md` 对它的引用以"如果/当 `/review` 落地"语气表述，不假定其已存在。
- **`.claude/commands/` stamp-gated 清理的精度边界**：只会命中**曾经由 pre-refactor agent-sync 写入**的文件（以 `.agent-sync-commands-manifest` 列表为证据，逐行删除）；若用户事后在同一目录添加了自己的 `.md`，mixed-ownership 场景下这些用户文件会被保留、仅删除 agent-sync 列过的那些 + manifest 本身；若用户从未经历 pre-refactor 部署（manifest 不存在），整个目录视为 user-authored，零操作。详见 `scripts/lib/sync.sh::cleanup_legacy_cc_commands` 头注。
- **首次升级的一次性 re-sync**：staleness hash 片段从 3 段扩展到 2 段；从上一版本升级到当前版本的项目，第一次 `agent-sync` 会强制重新生成一次输出（即使源文件内容等价）。这是预期行为，见 `README.md` §9。

#### TODOs / 遗留项

- [ ] `extras/agent-extension/` 实装 `/review` 多模型编排
- [ ] 视需要在 `extras/agent-extension/skills/` 下同步增补 reviewer 配置模板
- [ ] 向下游用户广播迁移说明（`README.md` §9 "Migrating from pre-decommission layout" 已加）

---

### HIST-002: Project Overlay 优化方案

- **Status / 状态**: In Progress
- **Date / 日期**: 2026-03-04
- **Related commits / 关联提交**: `e6c6157` Add project-overlay skill for AI-guided .agent-local.md generation, `9f1799e` Refactor agent-sync into subcommands and fix review findings

#### Background / 背景

当前 project overlay 流程要求用户手动复制 `overlay-template.md` 到 `.agent-local.md` 并逐 section 填写。模板 section 多、门槛高，导致 overlay 内容空泛、不贴合项目、缺乏维护动力，大部分项目实际依赖默认行为。

#### Design / 设计方案

将信息采集从「静态模板填写」改为「对话引导式收集」，封装为 Agent Skill `project-overlay`：

- **Init Flow**: 两阶段对话——Phase 1 收敛必填信息（Project Overview + Structure），Phase 2 发散探索可选配置；Agent 生成 `.agent-local.md`
- **Update Flow**: Agent 读取已有 overlay + 主动检测过时信号，聚焦变更 section 做局部刷新
- **模板内嵌 Schema**: 在 `overlay-template.md` 的 HTML 注释中追加 `@schema` 标注（Single Source of Truth），废弃独立 schema 文件
- **格式校验门控**: 生成后自动校验（Packs 合法性、标题一致性、占位符扫描等），失败则阻断
- **原子写入**: 临时文件 → 校验 → 原子替换 + `.bak` 备份
- **证据标注**: `[推断]` / `[待确认]` HTML 注释，sync 时自动剥离

经 4 个模型（Gemini、Kimi、GPT-Codex、Claude）多轮交叉 review 后迭代至 v3 方案（v1 初始构想 → v2 综合 review 细化 → 实现 → 实现 review 及修复引入 manifest、收敛同步等新设计 → v3）。

#### Implementation / 实现方案

| 文件 | 变更 |
|------|------|
| `skills/project-overlay/SKILL.md` | Skill 入口，路由 init/update 流程 |
| `skills/project-overlay/init-guide.md` | 初始化对话引导脚本 |
| `skills/project-overlay/update-guide.md` | 更新对话引导脚本 |
| `templates/overlay-template.md` | 嵌入 `@schema` 注释 |
| `scripts/agent-sync.sh` | 新增 skills 同步（收敛式 + manifest）、overlay 缺失提示 |
| `README.md` | 补充 Skill 触发引导 |

实现后经 Gemini / Kimi / GPT-Codex 两轮 review，修复了 `.gitignore` 冲突澄清、manifest 精确清理、收敛式同步、staleness gate 纳入 skills 等问题。

#### Limitations / 局限性

- 格式校验的自动修复仅限机械性问题（HTML 注释闭合、code block 标签），不涉及语义改写
- Skills 同步使用 `cp -R` glob 展开，不会复制隐藏文件（dotfiles），且对空目录可能触发 glob 异常
- 若 `.agent-sync-skills-manifest` 被手动删除，`clean` 无法识别历史托管目录，会导致残留

#### TODOs / 遗留项

- [x] Phase A 试点——在 1 个新项目上测试 Init Flow，采集 `overlay-metrics.log`
- [x] Phase B 试点——在 1 个已有项目上测试 Update Flow
- [ ] Phase C 试点——在 1 个 C++/CUDA 项目上测试扩展分支
- [ ] 将 skills 复制改为 `cp -R "$skill_dir/." "$target_dir/"` 以覆盖隐藏文件
- [ ] 为 manifest 丢失场景增加 fallback 清理策略
- [ ] 对话持久化与跨会话恢复

---

### HIST-001: Agent Rules 隔离方案

- **Status / 状态**: Closed
- **Date / 日期**: 2026-03-04
- **Related commits / 关联提交**: `32f2aa4` Move CLAUDE.md/AGENTS.md to .agent-rules/ to prevent Cursor duplicate injection, `f65f1fc` Auto-maintain .cursorignore to prevent Cursor duplicate rule loading

#### Background / 背景

Cursor 启动时自动嗅探并注入根目录 `AGENTS.md` 和 `CLAUDE.md`（不受 `.cursorignore` 控制），与 `.cursor/rules/` 内容完全重复，导致同一套规则被注入 2-3 次，浪费大量 Token 并挤压可用上下文窗口。

#### Design / 设计方案

根目录默认不放 `AGENTS.md` / `CLAUDE.md`，改为输出到 `.agent-rules/` 隐藏目录。Codex 和 Claude Code 通过 shell wrapper 临时软链接到根目录，用完自动清理：

| 输出 | 旧路径 | 新路径 |
|------|--------|--------|
| Cursor rules | `.cursor/rules/*.mdc` | 不变 |
| Codex rules | `./AGENTS.md` | `.agent-rules/AGENTS.md` |
| Claude Code rules | `./CLAUDE.md` | `.agent-rules/CLAUDE.md` |

Shell wrapper `_agent_with_rules()` 向上查找 `.agent-rules/`（不依赖 git）→ 软链接 → 执行 agent → trap 自动清理。采用软链接而非 `--append-system-prompt-file` 以保留 Claude Code 的多层 `CLAUDE.md` 发现机制。

退出条件：Codex 支持 `--agents` flag / Claude Code 支持自定义路径 / Cursor 支持禁用自动注入。

#### Implementation / 实现方案

已完成：

1. `agent-sync` 输出路径变更至 `.agent-rules/`
2. 根目录残留 `AGENTS.md` / `CLAUDE.md` 已清理
3. Shell wrapper（`_agent_with_rules` / `codex-run` / `claude-run`）已写入 `~/.bashrc`

#### Limitations / 局限性

- Codex/Claude Code 不再开箱即用，依赖 wrapper（临时方案）
- 不依赖 git 的目录查找可能在极端嵌套结构下效率低

#### TODOs / 遗留项

None.

---

### HIST-000: Visual Explanations 规则

- **Status / 状态**: Closed
- **Date / 日期**: 2026-03-01
- **Related commits / 关联提交**: (not recorded)

#### Background / 背景

对于算法、原理类 query，Agent 仅输出纯文字说明，缺乏可视化手段，信息传递效率低。用户提出希望 Agent 在适合时优先提供 ASCII 图或流程图辅助说明。

#### Design / 设计方案

采纳，按 SHOULD 级别实现。在 `.cursor/rules/00-communication.mdc` 的 `Output Format → General` 之后新增 `### Visual Explanations` 子节，包含 5 条规则：

- `SHOULD` 在解释算法、数据结构、架构模式、状态转换、并发模型、组件生命周期时提供 ASCII 或 Mermaid 图
- `SHOULD` 流程图/时序图/状态机优先用 Mermaid（Cursor 原生渲染），须使用 ` ```mermaid ` 代码块
- `SHOULD` 简单数据结构快照（树、数组、栈、内存布局）优先用 ASCII art
- `MUST NOT` 为追求形式而牺牲准确性——有歧义的图不如正确的文字
- `MAY` 说明简单时跳过图表（如单一公式、简单 API 用法）

经 Gemini、Kimi、GPT-Codex 三方 review 后，融合了以下建议：扩充场景（concurrency/lifecycle）、强调 ` ```mermaid ` 语法标记、补充 Acceptance Criteria、将触发条件具体化。

#### Implementation / 实现方案

| 文件 | 变更 |
|------|------|
| `.cursor/rules/00-communication.mdc` | 在 Output Format 下新增 `### Visual Explanations` 子节（5 条规则） |

#### Limitations / 局限性

- 触发条件为 SHOULD 弹性，不同模型/回合仍可能出现"该画不画"或"过度画图"的解释差异
- 未覆盖"Mermaid 渲染失败时自动回退 ASCII"的显式规则

#### TODOs / 遗留项

None.
