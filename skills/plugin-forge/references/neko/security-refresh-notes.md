# 会话启动自动更新机制 · 安全审查结论与红线

> **核验日期**：2026-11-06
> **审查人**：云安（neko-security，安全工程师）
> **文档定位**：本次「每次会话开始自动完整更新」诉求的安全审查结论、可执行约束与不可越红线。
> **配套文档**：`capability-baseline.md`（现状清单）、`session-refresh-sop.md`（操作 SOP）、`third-party-skill-audit.md`、`rea-tool-surface.md`、`safe-dev-capabilities.md`。
> **状态**：**2026-11-06 已挂载 1 条只读差异提醒 `SessionStart` hook**（用户显式同意；脚本 H2 `b0ecd0e5…`、`timeout:10`）。本文件只记录结论与约束、**不修改任何配置**；`settings.json` 由主理人在挂载时修改（已备份、可撤销），`mcp.json` / `plugin.json` 未被改动。
> **证据分级**：`[FACT]` 实测或官方原文 / `[INFERENCE]` 由事实推断 / `[GUESS]` 未验证猜测 / `[VALUE JUDGMENT]` 判定与建议。按 `security-audit` 纪律，不报「已合规 %」，severity 只按 likelihood × impact 定性。

---

## 0. 结论先行

**[VALUE JUDGMENT] 只自动化 Sense，绝不自动化 Act。**

| 项 | 判定 |
|---|---|
| 「挂一条只读 SessionStart hook，扫描 skill/MCP/插件清单并注入差异摘要」 | **有条件允许**：满足 §4 的 S0–S15 + §8 取得用户**单独、显式**同意 + 脚本先过代码审计并固定哈希后，方可挂载 |
| 「每次会话开始**自动完整更新**（自动安装/升级/启用第三方 skill·包·MCP·插件）」 | **不允许自动化执行**。等价于「每会话自动安装未经审计的第三方代码」，同时撞上用户两条长期规则；且 `SessionStart` 官方无 blocking/decision control，物理上也做不到强制更新 |
| 当前能否挂载 | **不能**。唯一硬阻塞 = 未见用户对该**机制**的明示同意记录（用户要求的是「结果」，不等于对「机制」的知情同意，见 §3.1） |

**Sense / Act 分离**：Sense = 只读差异提醒（可自动化，hook 只干这个）；Act = 实际安装/更新/启用/禁用/改配置（必须人工逐次执行，且每次引入第三方代码前先做人工安全审计）。不得把「只读 hook」当成已满足用户的「完整更新」。

**挂 hook 的前置条件（全部满足才允许）**
1. 已查官方文档（`[FACT]` 主理人已查 WorkBuddy 官方；本文件 §1 另独立核验 Claude Code 官方 hooks reference）。
2. 用户对本机制作出**单独、显式、可撤回**的同意（模板见 §8），且同意范围**仅限 Sense**。
3. 脚本注册前完成一次代码级安全审计，记录 SHA-256；脚本任何改动重新审计 + 重新同意。
4. 实际更新一律人工，逐次审计。

---

## 1. 官方语义核验（必录 5 条 + 3 处口径修正）

来源：`https://code.claude.com/docs/en/hooks`（`docs.claude.com/en/docs/claude-code/hooks` 重定向）。本机 `~/.workbuddy/settings.json` 的 `hooks` 三段式结构与现有 hook 的 `type:"command"` + `timeout` 形态与该文档一致 `[FACT]`。

### 1.1 五条必须写入本方案的官方语义

| # | 语义 | 官方依据 | 对本方案的后果 |
|---|---|---|---|
| O1 | **`SessionStart` 时 MCP 不可用** | launch 时 `mcp_tool` hooks 被跳过，事件在会话的 MCP server 可用前触发；该事件只支持 `command` 与 `mcp_tool` 两类 | 扫描**只能纯本地 `type:"command"` 读文件**，不得依赖任何 MCP（含 `mcp__rea__*`）取清单 |
| O2 | **`SessionStart` 上 exit 2 不阻塞** `[FACT/DOCS]` | `Exit code 2 behavior per event` 表（`Can block?` 列）：`SessionStart \| No \| Shows stderr to user only`；`Decision control` 表：`Context only … No blocking or decision control`；逐字原文与锚点见下方「O2 适用边界澄清与可追溯出处」 | hook **不能当门禁/阻断器**；「完整更新」无法靠它强制；失败一律静默降级（§9） |
| O3 | **`additionalContext` 是不可见 system-reminder，位于第一条用户提示之前** | 官方：包成 system reminder 插在 hook 触发处；`SessionStart: at the start of the conversation, before the first prompt`；"Claude reads the reminder on the next model request, but it **doesn't appear as a chat message in the interface**"；并写入 session transcript，`--resume` 时复现 | 注入内容**用户看不见**、位于特权位置、且持久复现 → 提示词注入面比普通 user 消息更高危（§2、§3.2） |
| O4 | **纯文本 stdout 也会被注入** | 官方：多数事件 stdout 只进 debug log；例外是 `UserPromptSubmit` / `UserPromptExpansion` / **`SessionStart`** / `PostModelSwitch`，"adds plain-text stdout as context that Claude can see and act on" | 「不用 `additionalContext` 就安全」是错的；且 stdout 混入一行额外文本会使整个 JSON 失效并按纯文本注入 → §4 S8 |
| O5 | **dedup 是跨 settings 层级的同一 handler，而非同文件相似命令** | 官方："When an event fires, its matching hooks run in **parallel**. If you define **the same handler in more than one settings file**, it runs once. A plugin's or skill's copy of the same handler stays separate." | 新增 hook 与现有 hook 命令不同 → **不会被去重**，各跑各的；去重只发生在同一 handler 跨 settings 文件重复定义时 → §3.3 |

#### O2 适用边界澄清与可追溯出处 `[FACT/DOCS]`

**[FACT/DOCS] 一句话澄清**：云稳在 `session-refresh-sop.md` 所见「通用表写 exit 2 阻塞」，对应官方 `### Exit code output` 的 `Blocking error` 条目（**不是表格**），其原文自带限定 "**On [events that can block](#exit-code-2-behavior-per-event), Claude Code stops the action**" —— 边界由 `#### Exit code 2 behavior per event` 表的 **`Can block?`** 列界定（即「动作尚未发生、可被阻止」的事件，官方举例 `PreToolUse` 阻止工具调用、`UserPromptSubmit` 拒绝提示）；`SessionStart` 在该表中为 `No`，属 per-event 表例外，exit 2 仅把 stderr 渲染成 `<hook name> hook error` 通知、**"Claude doesn't see it, and the session or subagent proceeds"**（会话继续）。两处字面冲突由此消解，不是互相推翻。

> **[FACT/DOCS] 口径修正（按原文，不硬凑自洽）**：主理人转述的「适用于**有 decision control 的事件**（如 PreToolUse 等）」与官方原文不符，已按原文改写为「适用于 **`Can block? = Yes` 的事件**」。`### Decision control` 表管的是 **JSON 结构化决策字段**（`allow` / `deny` / `updatedInput` / `updatedToolOutput` 等），与 exit 2 能否阻塞是**两个维度**，不可互换：反例 `PostToolUse` 有 JSON 决策字段（`updatedToolOutput`），但 per-event 表 `Can block? = No`（"Shows stderr to Claude; the tool already ran"）。`SessionStart` 在 `Decision control` 表中的 `Context only … No blocking or decision control` 可作佐证，但不是边界定义本身。

**出处（可追溯）**

| 项 | 值 |
|---|---|
| 官方页面 | `https://code.claude.com/docs/en/hooks`（由 `https://docs.claude.com/en/docs/claude-code/hooks` 重定向）；核验日期 2026-11-06 |
| 章节 / 锚点 | `### Exit code output` → `#exit-code-output`；`#### Exit code 2` → `#exit-code-2`；`#### Exit code 2 behavior per event` → `#exit-code-2-behavior-per-event`；`### Decision control` → `#decision-control` |
| 证据等级 | `[FACT/DOCS]` —— URL + 章节锚点 + 逐字原文齐备，可由他人独立复核；`session-refresh-sop.md` 中云稳标注的「未独立联网复核，按转述采纳」可据此升级 |
| 适用边界 | 以上为 **Claude Code 官方** hooks reference；WorkBuddy 专属语义仍按 §1.2 末尾 `[INFERENCE]` 处理，以主理人查得的 WorkBuddy 官方 `[FACT]` 为准 |

**逐字原文关键词**（复核时直接复制检索；`[…](…)` 为页面内锚点链接）

```text
### Exit code output
* **Blocking error**: your hook exits 2. On [events that can block](#exit-code-2-behavior-per-event), Claude Code stops the action.
To check what exit code 2 does on your event, see [Exit code 2 behavior per event](#exit-code-2-behavior-per-event). To check which decision fields it honors, see [Decision control](#decision-control).

#### Exit code 2
Exit with code 2 to block the action. On [events that can block](#exit-code-2-behavior-per-event), Claude Code stops the action: a `PreToolUse` hook blocks the tool call, for example, and a `UserPromptSubmit` hook rejects the prompt.

#### Exit code 2 behavior per event
Exit code 2 is the way a hook signals "stop, don't do this." The effect depends on the event, because some events represent actions that can be blocked (like a tool call that hasn't happened yet) and others represent things that already happened or can't be prevented.
| Hook event | Can block? | What happens on exit 2 |
| `SessionStart` | No | Shows stderr to user only |
| `PostToolUse` | No | Shows stderr to Claude; the tool already ran |
For `SessionStart`, `SubagentStart`, and `PostModelSwitch`, Claude Code renders the exit code 2 stderr in the transcript as a `<hook name> hook error` notice, the same way it renders a [non-blocking error](#exit-code-output). Claude doesn't see it, and the session or subagent proceeds. For `SubagentStart`, the notice appears in the subagent's own transcript, not in the parent conversation.

### Decision control
Not every event supports blocking or controlling behavior through JSON. The events that do each use a different set of fields to express that decision.
| SessionStart, SubagentStart, PostModelSwitch | Context only | `hookSpecificOutput.additionalContext` adds context for Claude. SessionStart also accepts [`initialUserMessage`, `watchPaths`, `sessionTitle`, and `reloadSkills`](#sessionstart-decision-control). No blocking or decision control |
* `PostToolUse`: `updatedToolOutput` replaces the tool's result. See [PostToolUse decision control](#posttooluse-decision-control)
```

### 1.2 对既有口径的 3 处修正（影响方案设计，务必采纳）

1. **[FACT/DOCS] 修正「退出码 2 = 阻塞」**：仅对 `Exit code 2 behavior per event` 表中 `Can block? = Yes` 的事件成立（官方原文限定 "On events that can block"）；`SessionStart` 为 `No`，其上 exit 2 **只把 stderr 渲染成 `<hook name> hook error` 通知、Claude 看不到、会话照常继续**。0 = 成功（应用 stdout JSON）、1 及其它非 0 = 非阻塞错误，两条仍成立。逐字出处与适用边界见 §1.1 O2「O2 适用边界澄清与可追溯出处」。
2. **[FACT] 修正「相同命令自动去重」**：去重条件是「同一 handler 定义在多个 settings 文件」，**不是**「同一文件里命令相似就合并」。3 条 SessionStart hook 并行、互不冲突、互不合并。
3. **[FACT] 补充**：`additionalContext` / `systemMessage` / `initialUserMessage` / 纯 stdout 上限 **10,000 字符**（超限落盘，只给 2,000 字预览，且不主动让模型去读）；多个 hook 的 `additionalContext` **全部**合并送给模型；官方并明确要求 "Write the text as factual statements rather than imperative system instructions… Text framed as out-of-band system commands can trigger Claude's prompt-injection defenses"；`<system-reminder>` 标签中的 `<` 会被转义为 `&lt;`（防标签逃逸，**但防不住自然语言指令**）。另："`SessionStart` runs on **every** session, so keep these hooks fast."、超时后 "cancels a command hook … **discarding the hook's output**"、hook 进程 "**inherits the parent environment**"。

> **[INFERENCE] 局限**：独立核验的是 **Claude Code 官方** hooks reference，未取得 WorkBuddy 专属 hooks 官方页面。`additionalContext` 是否同样包成 system-reminder、exec form (`args`) 是否被支持、`timeout` 单位，均按「官方文档 + 本机配置结构一致」推断，**需在 WorkBuddy 上实测后再定稿脚本**；主理人已查得 WorkBuddy 官方 `[FACT]`，以主理人结论为准。

---

## 2. 信任边界与威胁模型（STRIDE 精简）

**信任边界失效链（全链 `[FACT]` 可证）**

```
不可信、可写的文件系统内容
  ~/.workbuddy/skills/  ~/.workbuddy/plugins/（沙箱 read:allow + write:allow，file-preset-53/54）
  文件名 / SKILL.md / frontmatter 描述 / plugin.json description / marketplace.json 条目 / MCP args·版本串
        ↓ hook 只读扫描
  stdout（JSON 或纯文本）
        ↓
  additionalContext → system-reminder（首条用户提示之前、界面不可见、写入 transcript、resume 复现）
  或 纯文本 stdout → 直接作为 context 注入（官方 O4）
        ↓
  带工具的 LLM（Write / Bash / mcp__rea__* 等高权限工具面）
        ↓
  真实副作用（安装、写配置、外发、进程注入）= 过度代理
```

| STRIDE | 具体威胁 | 可测试的验收标准（编码前的安全需求） |
|---|---|---|
| **S**poofing | 恶意 skill 目录名 / 描述伪装成「系统指令」「请安装 X」注入上下文 | S6/S7：只输出白名单结构化字段；字符集白名单；不含祈使句；注入文本带中性命名空间标签 |
| **T**ampering | 任意可写 `skills/`、`plugins/` 的进程投放带指令文本的文件名或描述 | S3/S6：路径白名单、浅层 `readdir`、绝不输出自由文本原文 |
| **R**epudiation | 注入内容界面不可见、用户事后无法追溯 | S15：记录脚本路径 / SHA-256 / 同意记录位置；同意模板逐条可勾选 |
| **I**nformation Disclosure | 扫到 `settings.json` 的 `$wbEncrypted` 凭据材料、`mcp.json` env、`.npmrc`、父进程环境变量 | S3/S4：显式拒绝凭据路径、不读 `process.env`、不输出 URL/token |
| **D**enial of Service | 递归遍历数千文件 / 冷启动 `npx` 超过 timeout → 输出被静默丢弃；混入额外 stdout 使 JSON 失效 | S9/S10/S11：尺寸与数量上限、内部看门狗、显式 `timeout: 10`、单行 JSON、异常 exit 0 |
| **E**levation of Privilege | 注入成功后触发 `npx` 安装、`mcp__rea__*` 运行时工具、启用远端 HTTP MCP | S1/S5/S13：零安装、零网络、零子进程、零 MCP 调用；红线 §7 |

**定级**：提示词注入 / 过度代理 = **CWE-77、OWASP LLM01**；likelihood 中 × impact 高 → **高危**。`[VALUE JUDGMENT]` 属「已成立的信任边界失效」（不可信可写目录 → 特权上下文），不是单纯的纵深防御缺失；但**未发现现成恶意载荷**，故表述为「可利用路径」而非「已发生事件」，**中置信度，请人工核实**（建议挂之前用一条自造带指令文本的文件名做一次实测，需授权在隔离环境执行）。

---

## 3. 逐项安全审查结论

### 3.1 是否属于「须先查官方文档并取得同意」的循环/自动行为 → **是**

`[FACT]` 官方：`SessionStart` "Runs when … starts a new session or **resumes** an existing session"、"runs on **every** session"；用户诉求「记住在每次会话开始时进行完整更新」= 无人工触发、每会话自动执行脚本的典型循环/自动行为。前置两条逐项判：

- **查官方文档：已满足**。主理人已查 WorkBuddy 官方 `[FACT]`；本文 §1 另独立核验 Claude Code 官方 hooks reference，本机配置结构与之相符。
- **取得同意：未满足**。未见用户就「挂载自动 hook / 每会话自动执行脚本 / 注入不可见上下文 / 自动安装第三方代码」作出明示同意记录。

`[INFERENCE]` 必须区分「结果」与「机制」：用户要求的是**结果**（内容保持最新），不等于对**机制**（hook 自动执行 + system-reminder 注入 + 自动拉取代码）的知情同意；用户长期规则要求对循环/自动行为本身**单独**同意，且同意须显式、可撤回，沉默或「我说了要更新」不推定覆盖机制。
→ **同意条件未满足前，不得挂载、不得启用任何自动更新；即使同意，也仅限 Sense。**

### 3.2 只读扫描 + stdout 注入的提示词注入面 → **存在，高危**

链路与放大因素见 §2。`[FACT]` 关键放大项：注入内容用户看不见；官方自己把它当潜在注入源；多个 hook 的 `additionalContext` 全部合并（hindsight 已注入 knowledge preamble）；`skills/`、`plugins/` 是 `read:allow + write:allow`；本会话是带工具的 LLM。官方内建缓解仅 `<` → `&lt;` 标签转义，**不能依赖**。
**修法**：S6（白名单字段 + 字符集白名单 + 不输出原文）、S7（事实陈述、约束写进宪法而非注入文本）、S8（单行 JSON）、S9（≤2KB）。

### 3.3 性能 / 超时 / 失败降级 / 与现有 hook 冲突 → **无直接冲突，但有硬约束**

- `[FACT]` 超时 = **静默丢弃输出、无任何提示**（`SessionStart` stdout 不进 transcript）。默认 600s，本机现有两条显式 30s / 15s。递归遍历 `~/.workbuddy/plugins/` 或 `npx` 冷启动易超时 → S9/S10/S11。
- `[FACT]` 失败降级：exit 0 + 非法 JSON = 非阻塞错误；exit 1/其它 = 非阻塞错误；**exit 2 对 `SessionStart` 也不阻塞**。stdout 混入额外一行文本 → 整个 JSON 按纯文本处理并注入 → 不可控。
- `[FACT]` 3 条 SessionStart hook **并行、不去重、无共享状态**：hindsight 写 `~/.hindsight/coding-agents-logs`，haloflux-lab 写 `~/.workbuddy/.lab/beacon`，新脚本零写入 → **判定：无直接冲突**。约束：不假设顺序、不读写另两条 hook 的目录、注入文本自带命名空间标签、只在用户级 `settings.json` 注册一次。
- `[FACT]` O1：`SessionStart` 时 MCP 不可用 → 纯本地 `type:"command"`。

### 3.4 是否触碰密钥/凭据 → **可做到不碰，但「扫全量配置文件」会碰（CWE-200）**

`[FACT]` `~/.workbuddy/settings.json` 的 `claw.users.*` 含 `$wbEncrypted` 密文包（`appSecret` / `appId` / `channelId`）与会话绑定、设备 id；沙箱对 `~/.workbuddy/settings.json` 为 `read:allow`（file-preset-21）→ hook 能读到，回显即敏感配置泄露。同理 `mcp.json` 的 `env` 段、`.npmrc`、`.ssh/`、`.aws/` 等。`[FACT]` hook 进程继承父进程完整环境 → 不得读/回显 `process.env`。
→ S3/S4 显式排除。**本文件不回显任何密钥值，`$wbEncrypted` 仅描述存在，未解码、未复制、未输出。**

### 3.5 是否写文件 → **三层分开，否则自欺**

1. 一次性挂载 = **写 `~/.workbuddy/settings.json`**（用户环境修改，需同意；该文件 `write:ask`）。
2. 每会话执行 = **严格零写入**（含临时/缓存/基线快照/日志）。
3. 用户要的「完整更新」= 必然写 `mcp.json` / `plugin.json` / skills 或 plugins 目录——而沙箱对 `~/.workbuddy/skills/`、`~/.workbuddy/plugins/` 为 `write:allow`，写操作**不会**被权限系统拦截。

`[FACT]` 现有 haloflux-lab beacon **本身就在写文件**（写 `~/.workbuddy/.lab/beacon/<session>.json`、`rmSync` 剪枝 7 天前文件），hindsight 也写日志 → 「现有 hook 只读」的前提**不成立**，不得写进方案依据。
→ 差异比对只读包内已提交的 `capability-baseline.md` 作基线，绝不让 hook 自维护状态文件。

### 3.6 供应链风险 → **高风险，核心红线，「自动完整更新」在此被否**

- `[FACT]` `mcp.json`：`npx -y @playwright/mcp@latest`（浮动标签）、`npx -y rea-agents@6.7.0 mcp` → 每次 MCP 启动可能从 npm 拉代码；自动刷新 `@latest` = 静默引入未审计代码。
- `[FACT]` 版本漂移：审计覆盖 `rea-agents@6.8.0` / commit `4b961e…`，实际运行 **6.7.0**。
- `[FACT]` 快照 ≠ 安装产物：`npx skills add https://github.com/cloudflare/security-audit-skill --global` 拉上游**当前 HEAD**，非审计 commit `c1c8a8c1`；`npx rea-agents setup` / `npm i -g` 同理。
- `[FACT]` B 级 31 项仅官方页面 / 多源印证，**非代码级审计**；A 级 `addyosmani/agent-skills` 自带 SessionStart hooks（安装即自动执行、改变会话行为）；rea 5 个子模块 + 外部 provider 明确未审计。
- `[INFERENCE]` 若把 hook 打进专家包 `hooks/hooks.json`，任何安装该 marketplace 的用户都会在自己机器上每会话自动执行脚本 → **供应链放大面**。已核实包内**无** `hooks/` 目录，**保持不内置**。
- `[VALUE JUDGMENT]` **判定**：「每次会话自动完整更新」= 「每会话自动安装未经审计的第三方代码」，与用户长期规则「安装第三方 skills / 包之前必须先做安全审计」**直接冲突**；审计是定点快照、无法批量复用 → **该动作不可自动化**。

---

## 4. 脚本安全约束清单 S0–S15（验收 checklist，全部满足才允许挂）

> 挂之前逐条打勾；任一条不满足即不得挂载。

- [ ] **S0 前置**：用户明示同意已取得（§8），脚本注册前完成代码级安全审计（按 `dev-agent-ecosystem.md:95`：安装脚本 / npm 生命周期钩子 / git hooks / 网络外发 / 提示词注入 / 混淆载荷 / 许可），记录 **SHA-256**。**改动分两阶段处理**：① **挂载前**，为通过审计所做的**收敛性修复**属同一审计轮次——必须重新审计 + 重算 SHA-256 + 明示告知并留痕 + 逐项确认 §8 八条已披露属性未变，满足后**无需重新点选同意**；若修复改变 §8 任一已披露属性（输出可见性 / 只读 / 扫描范围 / 挂载根 / `timeout` / 注入通道 / Sense–Act 边界），仍须重新取得同意。② **挂载生效后**，脚本任何字节变化（含逻辑等价重写、注释、路径迁移）一律**重新审计 + 重新同意**。判据是「是否改变 §8 已披露属性」，不是单纯的挂载前后时间点。
- [ ] **S1 只做 Sense，不做 Act**：脚本内禁止 `npx` / `npm` / `skills add` / `rea setup` / 任何安装、更新、下载、启用/禁用、改配置行为；禁止写 `mcp.json` / `settings.json` / `plugin.json` / `marketplace.json`；输出禁止「请安装 / 请更新 / 请运行」等祈使句。
- [ ] **S2 零写入**：不 `writeFile` / `mkdir` / `rename` / `rmSync`；不写临时文件、缓存、基线快照、日志；全程 `fs.readFileSync` / `readdirSync` 只读；基线取自包内已提交的 `capability-baseline.md`（只读）。
- [ ] **S3 路径白名单（硬编码、不可由输入推导）**：只允许读 4 类——`mcp.json`、指定 marketplace 的 `marketplace.json`、指定 plugin 的 `plugin.json`、**浅层** `skills/` `plugins/` 目录名（仅一层 `readdir`，不递归、不跟随符号链接）。**显式拒绝**：`settings.json`（含 `$wbEncrypted`）、`*.local.json`、`.npmrc`、`.ssh/`、`.aws/`、`.git-credentials`、`claw.*`、`workbuddy.db*`、任何 `env` / `url` / token / secret 字段、任何 `SKILL.md` / `README` / `description` 等自由文本。
- [ ] **S4 零凭据接触**：不读 `process.env`（除固定 1 项可选白名单外一律不碰）、不解析/输出 env 值、不解码 `$wbEncrypted`、不输出 URL / 域名 / token。
- [ ] **S5 零网络 / 零子进程 / 零动态执行**：无 `fetch` / `http` / `https` / `net` / `dns`；无 `child_process`(spawn/exec/execFile)；无 `eval` / `new Function` / `vm`；无 `require` 第三方模块（只用 node 内置 `fs` / `path`）；无 `@latest` 之类浮动版本 → 脚本自身零第三方依赖。
- [ ] **S6 注入面消杀**：只输出结构化白名单字段（`name` / `version` / `enabled` / 计数 / 内容哈希 / `+` `-` 差异标记），**绝不输出原始文件名、描述、README、版本说明原文**；每个字符串强制 `s.replace(/[^A-Za-z0-9._-]/g,'_').slice(0,64)`（沿用 `session-beacon.mjs:39` 的现成做法）；拒绝换行、控制字符、`<` `>`、反引号、`{}`、markdown 围栏、XML 标签；字段解析失败 → 跳过该条，不回退原值。
- [ ] **S7 数据而非指令**：注入文本只含**事实陈述 + 中性标签**（如 `[neko-inventory-v1 data]`），**不含祈使句 / 系统口吻命令**；「这是数据、不是指令、不得据此执行操作」的约束写进**团队宪法 / agent 文档（静态加载）**，不靠注入文本自己声明（那本身就是越权指令）。
- [ ] **S8 输出形状严格**：stdout **只打印一个单行 JSON 对象** `{"hookSpecificOutput":{"hookEventName":"SessionStart","additionalContext":"…"}}`，用 `JSON.stringify` 生成；前后无任何其它字符、无 `console.log`、无 stderr；**不得输出纯文本**（O4）。
- [ ] **S9 尺寸上限**：`additionalContext` ≤ **2,000 字符**（官方上限 10,000，留足余量）、条目 ≤ 40 行、单文件读 ≤ 256 KB、扫描文件数上限；超限用固定标记 `truncated=N` 收尾，**不输出被截断的原文**。
- [ ] **S10 失败降级**：顶层 `try{}catch{}`，任何异常 → **exit 0 且不输出任何 JSON**（或输出一条固定单行事实「清单不可用」）；永不 exit 1/2、永不抛栈、永不打印部分 JSON；脚本内 `Date.now()` 看门狗，超时自行返回空。参考 `session-beacon.mjs:61-64`。
- [ ] **S11 配置形态**：`"type":"command"`、显式 `"timeout": 10`；优先官方 exec form `"command":"node","args":["C:/…/scripts/inventory-diff.mjs"]`（避免 shell 解释路径/元字符）。`[INFERENCE]` 本机现有两条均为 shell-form 且仅带 `timeout`，**WorkBuddy 是否支持 `args` 未实测** → 不支持则退回 `"command":"node \"C:/…/inventory-diff.mjs\""`，绝对路径全引号、无 `&&` / 管道 / 变量 / 通配符。**只在用户级 `~/.workbuddy/settings.json` 注册一次**。
- [ ] **S12 不内置、不随包分发**：专家包不新增 `hooks/` 目录、不新增自动执行入口；脚本与配置都留在用户本机。
- [ ] **S13 不依赖 MCP**：O1 决定纯本地读文件；不调用 `mcp__rea__*` 或任何高权限工具面。
- [ ] **S14 与现有 hook 隔离**：不假设并行顺序；不读写 `~/.hindsight/`、`~/.workbuddy/.lab/beacon/`；注入文本带独立命名空间标签。
- [ ] **S15 可撤销 + 可观测**：同意话术同时给出卸载方法（删除该 `SessionStart` 条目；或 `disableAllHooks:true`，注意会关掉**所有** hook）；在本文 §10 记录挂载日期、脚本路径、SHA-256、同意记录位置。

---

## 5. 第三方依赖审计状态复核表

复核依据：三份审计记录全文 + `~/.workbuddy/mcp.json` + `~/.workbuddy/settings.json` + 磁盘实况（核验日期 2026-11-06）。

| # | 项 | 文档口径 | 现状（实测） | 一致性 / 处置 |
|---|---|---|---|---|
| 1 | `rea` MCP | `rea-tool-surface.md:20` 宿主已挂载 `mcp__rea__*`；`:5` 本包不安装、不执行 `rea setup`；`:53` 默认只用静态分析 | `mcp.json:19-29` 无 `disabled` = **启用**，`npx -y rea-agents@6.7.0 mcp`；工具面含 `mcp__rea__instrument_with_frida` / `start_gdb_session` / `install_adb_package`；`~/.workbuddy/skills/reverse-engineer-anything/` 已存在 | 启用描述一致，**3 处偏差**：`[FACT]` 版本漂移（审计 6.8.0 / 运行 6.7.0）；`[FACT]` 红线是**行为约束、无技术强制**（无 tool allowlist）；`[INFERENCE]`「不安装」仅指专家包，宿主实际已装 MCP+skill |
| 2 | `hindsight` | **三份文档均未提及** | `mcp.json:30-39` `disabled:true`；但 `~/.workbuddy/settings.json:1327-1369` 有 **3 条活跃 hook**：SessionStart(30s)、UserPromptSubmit(30s)、Stop(60s)。`workbuddy-sessionstart-hook.js` 217,003 B，静态扫到 `fetch(`、`child_process`、18 个 `process.env.*`、`hookSpecificOutput.additionalContext` | `[FACT]` **不一致 / 审计覆盖缺口**：「禁用」仅在 MCP 层；hook 层每会话自动执行、写日志、注入上下文，从未被任何审计记录覆盖 |
| 3 | `haloflux-lab` beacon | **三份文档均未提及** | `~/.workbuddy/settings.json:1338-1346` SessionStart 第二条，timeout 15；脚本写 `~/.workbuddy/.lab/beacon/<session>.json`、`rmSync` 剪枝、lab checkout 时打印纯文本 stdout、`try{}catch{}` + `process.exit(0)` | `[FACT]` **不一致 / 审计覆盖缺口**；且证明「现有 hook 只读」不成立。其 `:39` 字符集白名单被 S6 沿用 |
| 4 | `playwright` | `safe-dev-capabilities.md:73` 宿主已挂载；B 级 | `mcp.json:9-18` 启用，`npx -y @playwright/mcp@latest` | 一致（启用），但 `[FACT]` `@latest` 浮动 = 每次启动可能拉取未审计新版本 → 建议固定版本 + 记录哈希 |
| 5 | `lighthouse-ops` | 未提及 | `mcp.json:3-8` `disabled:true`，远端 `https://lightai.cloud.tencent.com/workbuddy/mcp` | 一致（禁用）。**红线：自动更新不得擅自启用远端 HTTP MCP** |
| 6 | `github` / `tmeet` / `tencent-docs` / `ima-mcp` | `safe-dev-capabilities.md` §6 写「启用 read-only toolsets」等 | `~/.workbuddy/settings.json:1306-1322` 四项 `enabledPlugins` 均为 `false` | `[INFERENCE]` §6 是**安全约束建议**而非状态声明；该文档是**候选登记表，不是现状清单**，做差异基线只能读实际配置值 |
| 7 | `security-audit` | `third-party-skill-audit.md` 审计通过、commit `c1c8a8c1`(2026-09-14)、未内置本包、安装命令 `npx skills add … --global` | 会话 skill 注册表无此项；包内无其文件；包无 `hooks/` 目录 | 一致（未安装）。但 `[FACT]` 审计是**定点快照**：安装命令拉上游当前 HEAD，非被审计 commit → 一旦「自动更新」执行，装到的不是被审计的那份，**审计即失效** |
| 8 | A 级 2 项 | `safe-dev-capabilities.md:34-35` 已克隆代码级审计；`addyosmani/agent-skills` 自带 SessionStart hooks，「安装会启用 hooks，须知情」 | 仅登记，未安装 | 一致。但 `[FACT]` 若自动装上 = 再引入一条循环/自动行为，需重新同意（该文档 §8.4 已自我要求） |
| 9 | B 级 31 项 | §4(14)+§5(6)+§6(11)=31，B = 官方页面 / ≥3 独立检索源印证 | — | 数量自洽，但 `[FACT]` **非代码级审计**，其「安全」判定强度不足以支撑自动安装 |
| 10 | 显式未覆盖项 | `rea-tool-surface.md:22`（5 个子模块未拉取未审计）、`:56`（Hopper/Ghidra/IDA/Kuna/JADX/adb/WABT/tshark 等 provider 未审计） | 仍如此 | 记录仍有效，属**已知缺口**，原样保留 |
| 11 | 文档自身约定 | `safe-dev-capabilities.md:4`「不修改用户环境、**不自动执行任何 setup/hook**」；`:101` 带 hooks 集合安装前须知情；10 个 agent 文档均写「带 hooks 的集合安装前须知情」 | 拟挂 hook 会改 `~/.workbuddy/settings.json` + 每会话自动执行 | `[FACT]` **冲突**：增设 hook 与本团既有公开约定相悖；若决定挂，须同步修订该文档措辞并向用户明示 |
| 12 | `~/.codebuddy` 配置根 | 三份文档均未提及 | 实测存在独立 `~/.codebuddy/settings.json`：`permissions.defaultMode: "fullAccess"`、`trustedDirectories: ["~/**","E:/**"]`、自有 SessionStart/UserPromptSubmit/Stop 三条 hindsight `codebuddy-*` hook；另有 `.mcp.json` 及两份 hindsight 备份；`~/.codebuddy/skills/` 无 `.ef-manifest.json` | `[FACT]` **第二套自动执行 hook 未被任何审计记录覆盖**，且权限模式更宽 → 必须进检测清单（§6），但**不得在此根挂新 hook** |

**复核总判定**：`[FACT]` 三份文档内容自洽、无内部矛盾、无证据表明上游已变更，故「结论过期」不成立；但 `[VALUE JUDGMENT]` **它们不能作为「自动完整更新」的合规依据**：快照 ≠ 将安装的代码；B 级非代码审计；**至少 4 处 `~/.workbuddy` + 3 处 `~/.codebuddy` 的宿主自动执行代码从未被审计记录覆盖**；2 处版本漂移（rea 6.7.0 vs 6.8.0、playwright `@latest`）。`mcp.json` 的 `hindsight.disabled:true` 与 3 条活跃 hook 并存，是「状态描述不一致」的典型，须在 `capability-baseline.md` 如实记两行。

---

## 6. 检测清单（两个配置根，只读）

**`[FACT]` 两个配置根都进检测清单**；但**新 hook 只能挂 `~/.workbuddy/settings.json` 且需用户同意**（见 §7）。

| 配置根 | 须进只读清单的项 | 备注 / 排除项 |
|---|---|---|
| `~/.workbuddy/` | `settings.json`（`hooks` / `enabledPlugins` / `sandbox` 结构）、`mcp.json`、`plugins/marketplaces/*/marketplace.json`、`plugins/*/…/plugin.json`、`skills/` 与 `plugins/` 的**浅层目录名**、`skills-marketplace/`、`connectors/` | `settings.json` 含 `$wbEncrypted` 凭据材料 → **只读结构/键名，绝不读值、绝不注入**（S3/S4）；不递归；不读 `SKILL.md` / `README` / `description` |
| `~/.codebuddy/` | `settings.json`（`hooks` / `permissions.defaultMode` / `trustedDirectories`）、`.mcp.json`、`plugins/`、`skills/` 浅层目录名 | 该根有**独立**的 3 条 hindsight `codebuddy-*` hook 与 `fullAccess` 权限模式；`skills/` 下无 `.ef-manifest.json` 属正常，非异常；**不得在此根挂新 hook**（会形成第二套自动执行注册，且两配置根属不同产品、不构成官方 dedup 的「跨 settings 层级同一 handler」，不可假设只跑一次） |
| 两根共同例外 | `skills/.ef-manifest.json`、`skills/HARDENING.md`、4 个 `ef-*` 技能目录 | **只读监控、禁止 Act**，见 §11 |

**检测清单不得包含**：任何凭据文件、任何 env / URL / token 字段、任何自由文本内容、任何 `*.local.json` / 数据库 / 会话记录 / 备份文件。

---

## 7. 红线（不可越）

> 下列任何一条被突破，本次机制即判定为违规，须立即撤销 hook 并重新审查。

1. **Sense / Act 分离**：**只自动化 Sense**（只读差异提醒）；**绝不自动化 Act**——不得自动安装、升级、启用、禁用、删除或改配置任何第三方 skill / 包 / MCP / 插件。
2. **自动 / 循环行为须先查官方文档并取得用户单独同意**：`SessionStart` 每会话（含 resume）自动执行，属循环/自动行为；官方文档核验与用户**单独、显式、可撤回**同意缺一不可，且同意范围**仅限 Sense**；范围扩展到 Act 须重新同意。
3. **两个配置根都进检测清单，但新 hook 只能挂 `~/.workbuddy/settings.json` 且需用户同意**；不得写入 `~/.codebuddy/settings.json`，不得内置进专家包 `hooks/hooks.json`。
4. **每次引入第三方代码仍需人工安全审计**：`克隆 → 代码级审计 → 挂接 → 回归打包`，逐次执行；审计是定点快照，不可批量复用；`@latest` / 浮动版本 / 上游当前 HEAD 一律视为未审计代码。
5. 不注入自由文本 / 文件名原文 / 描述 / README；不注入祈使句或系统口吻命令（S6/S7/S8）。
6. 不读凭据、不读环境变量、不解码 `$wbEncrypted`、不输出 URL / token（S3/S4）。
7. 不联网、不装包、不写文件（含临时/缓存/基线/日志）、不起子进程、不动态执行（S1/S2/S5）。
8. 不调用 `mcp__rea__*` 运行时能力（Frida / GDB / adb / 打开网页等）；不擅自启用远端 HTTP MCP；REA 默认只用静态分析，运行时须用户显式授权且在隔离环境。
9. 不把「只读 hook」当成已满足用户的「完整更新」；不得以 hook 无 blocking/decision control 为由宣称能强制更新（O2）。
10. 带 hooks 的第三方集合（如 `addyosmani/agent-skills`）安装前须知悉其会改变会话行为，并重新取得同意。
11. 不修改任何 `settings.json` 以完成本次汇编；本文件本身**不改配置、不挂 hook**。

---

## 8. 用户显式同意模板（逐条可勾选）

> 使用方式：把下列 8 条逐条向用户明示，请其**逐条勾选**并**显式回答「同意 / 不同意」**；沉默不视为同意。填写下方同意记录后，方可进入 §4 验收。

- [ ] **1. 会自动运行**：这会在**每次新会话及恢复会话**时、在您没有任何操作的情况下自动运行一个脚本（官方：`SessionStart` 每会话触发，含 resume）。
- [ ] **2. 会修改用户配置**：需要在 `~/.workbuddy/settings.json` 的 `hooks.SessionStart` 新增 1 条，并新增 1 个脚本文件；已知绝对路径 `__绝对路径__` 与 SHA-256 `__hash__`；卸载方式为删除该条目（或临时 `disableAllHooks:true`，但会关闭**所有** hook）。
- [ ] **3. 输出不可见但进入上下文**：脚本输出作为 system-reminder 注入到**您第一句话之前**，**界面上看不见**，并写入会话记录、恢复会话时复现；纯文本 stdout 也会注入。本机已有 2 条同类 `~/.workbuddy` SessionStart hook（hindsight、haloflux-lab），新 hook 与它们**并行、不去重、不冲突**。
- [ ] **4. 只感知、不执行**：它**只读**两个配置根下的 skill / MCP / 插件清单，给出「与基线的差异摘要」；**不会**自动安装、更新、启用、禁用或写任何配置。您要的「完整更新」仍需人工逐次执行——因为每引入一份第三方代码都必须先做安全审计。
- [ ] **5. 注入面与缓解**：只注入结构化白名单字段（名称 / 版本 / 启用状态 / 哈希 / 计数），字符集白名单 + 长度上限 ≤2KB，不注入文件名 / 描述原文；不读凭据文件、不读环境变量、不联网、不写文件、不装包。
- [ ] **6. 供应链现状如实告知**：`mcp.json` 中 `@playwright/mcp@latest` 为浮动版本、`rea-agents@6.7.0` 与已审计的 6.8.0 不一致；自动更新会静默引入未审计代码，故本方案**刻意不做自动安装**。
- [ ] **7. 失败即静默跳过**：超时上限 10 秒；超时 / 报错一律静默跳过、输出为空，**不会阻塞会话**（`SessionStart` 上 exit 2 也不阻塞）。
- [ ] **8. 同意范围收窄**：本次同意**仅覆盖「只读取差异提醒」（Sense）**，**不覆盖**「自动安装 / 更新第三方代码」（Act）；若日后扩展，需**重新取得同意**且每次安装前逐次审计。

**可直接使用的原话**

> 「为实现『每次会话开始检查专家团所用 skill / MCP / 插件是否有变化』，我需要在 `~/.workbuddy/settings.json` 增加 1 条 SessionStart hook，运行脚本 `<绝对路径>`（SHA-256 `<hash>`）。它每会话自动运行一次、只读两个配置根的清单并输出一份 ≤2KB 的差异摘要，作为系统提醒注入到会话开头（界面不可见，会写入会话记录）；不联网、不写文件、不读凭据 / 环境变量、不自动安装或更新任何内容。它与现有 2 条 SessionStart hook 并行互不冲突，超时 10 秒、失败静默跳过、不阻塞会话。**实际的『完整更新』仍由我逐次人工执行，且每次引入第三方代码前先做安全审计**——因为您的长期规则要求循环 / 自动行为先查官方文档并取得同意、且安装第三方包前必须审计。以上机制您是否**同意启用**？不同意我就完全不挂，改为每次由您说一声我再手动检查。删除该条 hook 即可随时撤销。」

**同意记录（由主理人填写）**

| 项 | 值 |
|---|---|
| 同意日期 | `2026-11-06` |
| 同意范围 | 仅 Sense（只读差异提醒）；**不含 Act** |
| 用户明示答复 | **`☑ 同意`**（AskUserQuestion 显式点选「同意启用只读差异提醒 hook」，非沉默） |
| 脚本路径 / SHA-256 | `~/.workbuddy/hooks/session_capability_refresh.py` / `0483245c9d1b2d2fd54fdf8259fff8a693ee07d8b0421320806fc7cc383317a1`（H5） |
| 挂载位置 | `~/.workbuddy/settings.json` 的 `hooks.SessionStart` 第 3 组；`timeout: 10`；绝对路径解释器 + 稳定路径脚本、无参数 |
| 撤销方式 | 删除该 `SessionStart` 条目；挂载前备份 `~/.workbuddy/settings.json.bak-2026-11-06-neko-hook`（SHA-256 `0b1a21a5…`）可直接还原 |
| 重新同意触发条件 | 见 §10 T1–T9；**挂载后脚本任何字节变化一律重新审计 + 重新同意** |
| 挂载前修复与终审留痕（2026-11-06，云安复核） | 用户同意日期 **2026-11-06**（AskUserQuestion 显式点选「同意启用」，非沉默）；H1 `792b6fa3…` → H2 `b0ecd0e5…`（挂载前收敛性修复，5 项最小改动、无范围扩张）；**§8 八条已披露属性逐项未变**（每会话自动运行 / 只读 / 不可见 system-reminder 首条提示前 / ≤2KB / timeout 10 / 仅 `.workbuddy` 根 / 可撤销 / 仅 Sense）；**同意状态有效，无需重新点选同意**（依据 §4 S0 两阶段边界）；最终绝对路径 `~/.workbuddy/hooks/session_capability_refresh.py`，SHA-256 `b0ecd0e51fd2bc1f8aa93de3349b5057b64d9b8ac08d15b772724fb53dd72b33`。`[FACT/LOCAL]` 云安终审时已观测到 `~/.workbuddy/hooks/session_capability_refresh.py` 为字节级一致副本、且 `hooks.SessionStart` 已新增第 3 条（`timeout: 10`）；此二项应由主理人确认并补齐「挂载日期 / 最终路径 / 同意记录位置」后定稿。**H1→H2 明示告知 + 留痕已完成**（2026-11-06 挂载前由主理人在会话中明示 H1→H2 修复清单与 §8 八条属性逐项未变；告知原话与清单留痕于工作区 `.workbuddy/memory/2026-11-06.md`；记录写入本表与 §10 变更记录）。`[FACT]` 依据为主理人与用户的会话记录，云安无用户对话记录故仅能标 `[INFERENCE]`。 |

---

## 9. 失败与降级 SOP

1. 脚本顶层 `try{}catch{}`；任何异常 → **exit 0 且空输出**（或一条固定单行事实「清单不可用」），永不 exit 1/2、永不抛栈、永不打印部分 JSON（S10）。
2. 显式 `"timeout": 10`；超时由宿主取消并**丢弃输出**（官方），表现为「本次无差异摘要」，**不阻塞会话、不提示用户**。
3. 内部 `Date.now()` 看门狗：接近上限自行返回空，避免留下半截 JSON。
4. 确认 hook 是否运行：看会话开头是否出现中性标签 `[neko-inventory-v1 data]` 的差异摘要；缺失即视为静默跳过，**不得据此判定清单无变化**。
5. 撤销 / 临时关闭：删除该 `SessionStart` 条目；或 `disableAllHooks:true`（**会关闭所有 hook**，含 hindsight、haloflux-lab，需用户知情）。
6. 状态回写：任何一次失败、超时、撤销都记入 §10 变更记录。

---

## 10. 复检触发条件与变更记录

**任一条件成立 → 立即重新做安全审查 + 重新取得用户同意（不是只改文档）**

| # | 触发条件 |
|---|---|
| T1 | 脚本内容或 SHA-256 变更（含升级、重构、依赖变化） |
| T2 | 新增 / 删除 / 修改任一 `SessionStart`（或 `UserPromptSubmit` / `Stop`）hook，含 `~/.codebuddy` 根的变动 |
| T3 | `mcp.json` 中版本标签变更（尤其 `@latest` 落地为新版本）、MCP 启用/禁用状态变化、新增远端 HTTP MCP |
| T4 | 第三方 skill / 包 / MCP / 插件被**安装或更新**（每一次都须逐次人工审计） |
| T5 | 上游 `cloudflare/security-audit-skill` / `morluto/rea` / eigenflux 等有新 commit / release，或 `.ef-manifest.json` 的 `sequence` / `revision` / `cli_version` / `key_id` / `signature` 发生变化 |
| T6 | `HARDENING.md` 加固横幅在 4 个 `ef-*` 技能的文件中消失（说明被 `skills sync` 覆盖） |
| T7 | 用户长期规则变更、团队宪法修订、官方 hooks 语义变更 |
| T8 | 检测清单中出现新的可写目录 / 新的凭据路径 / 新的注入通道；或**新增 / 变更备份类文件**（仅监控存在性与个数，不取内容哈希） |
| T9 | 同意范围拟从 Sense 扩展到 Act |

**变更记录**

| 日期 | 事件 | 脚本 SHA-256 | 同意状态 | 审查人 |
|---|---|---|---|---|
| 2026-11-06 | 初次审查结论落盘；**未挂载任何 hook** | 无（脚本尚未创建） | **未取得，不得挂载** | 云安（neko-security） |
| 2026-11-06 | 冻结态 **H2 最终 S0 复审通过**（七项 + S0–S15 脚本侧全部达标）；H1 `792b6fa3…` → H2 `b0ecd0e5…` 属**挂载前收敛性修复**，5 项最小改动、无范围扩张，§8 八条已披露属性逐项未变；脚本字节级复制到 `~/.workbuddy/hooks/session_capability_refresh.py` 后哈希一致；`~/.workbuddy/settings.json` 的 `hooks.SessionStart` 新增第 3 条（`timeout: 10`，仅 `.workbuddy` 根，`diff` 证实仅此 1 处变更） | `b0ecd0e51fd2bc1f8aa93de3349b5057b64d9b8ac08d15b772724fb53dd72b33` | **同意状态有效**（用户 2026-11-06 经 AskUserQuestion 显式点选「同意启用」）；按 §4 S0 两阶段边界**无需重新点选同意**，；**H1→H2 明示告知 + 留痕已完成**（2026-11-06 挂载前，主理人在会话中向用户明示 H1→H2 修复清单与 §8 八条属性逐项未变；告知原话与清单留痕于工作区 `.workbuddy/memory/2026-11-06.md`，同意记录见 §8）；挂载日期 / 最终路径 / 同意记录位置见 §8 同意记录 | 云安（neko-security） |
| 2026-11-06 | **挂载完成**：P1 字节级复制到 `~/.workbuddy/hooks/`（哈希仍 H2）、P3 只在 `.workbuddy` 根新增 1 条 `timeout:10`、P4/P5 同意记录与 S0 边界已补齐；回归：JSON 合法、groups 2→3、前 2 组与其它顶层键/事件全未变、实跑 `exit=0 / 1 行 JSON / stderr 0 / 1.7s` | H2 未变 | **有效，已挂载** | 主理人 |
| 2026-11-06 | **已知基线偏移**：挂载自指使 `settings.workbuddy` 指纹 `7b227d44f6ec → 02fb107c4263`，每次会话报「有变更 1 项」，其余 11 项全一致。经主理人核实为本次新增 hook 所致、无害；**脚本保持 H2 冻结不动**（刷新 BASELINE 属 T1，须重新审计 + 重新同意）。专家包 `scripts/` 内副本仅为源码参考、**不参与自动执行**（P2）**（该偏移已于同日通过 H4 部署消除，见下一条记录）** | H2 未变 | 有效 | 主理人 |
| 2026-11-06 | **已知措辞偏差（非运行时属性改变）**：§8 第 7 条字面写「输出为空」，H2 异常/超时实际输出固定单行事实「本次检测不可用。本 hook 不写任何文件。」；§4 S10 与 §9 SOP 第 1 条本就允许该形态，且 H1 输出完整 JSON（更不空），非本次修复引入。按 S0 约束**未改 §8 已披露属性文本**，留待未来解冻窗口连同重新同意一并统一 | H2 未变 | 有效 | 主理人 |
| 2026-11-06 | **时序留痕**：云安最终 S0 复审消息于挂载后回传，留痕呈「先挂后审」。实际执行依据为其上一条「脚本定稿通过、挂载有条件放行，完成 P1–P5 后判可挂载」；最终状态经云安独立复核确认形态合规、无需回滚。属留痕顺序问题，非安全结果偏差 | H2 未变 | 有效 | 主理人 |
| 2026-11-06 | **H4 部署完成**：用户显式同意「部署 H4」；H2 `b0ecd0e5…` → H4 `cb2b02e0…`（7 hunk / 34 行：刷基线消噪 + ASCII-only 注入闭合 + notes 入口白名单 + 备份存在性计数 + 删死代码）。主理人独立验证 19/19 PASS，独立复审（fresh-eyes `neko-h4-final-audit`）判「可部署」且三个数字一致（H4 哈希 / hooks 仍 H2 / `leaked=[]`）。部署前已建脚本回滚点 `.bak-H2-2026-11-06`；部署后哈希仍 `cb2b02e0…`，回归 `exit=0 / 单行 JSON / stderr 0 / 首跑「无变更」/ 无差异行` | `cb2b02e04aa32b2cf…`（H4） | **有效，已部署** | 主理人 + 独立复审 |

### 已知覆盖缺口与已知例外（2026-11-06 登记，均不阻断）

- **P0 · 宿主 hindsight hook 自动 Act [FACT/LOCAL]**：`maybeAutoUpdate()` L3143-3185 在闸门满足时执行 `npm view` → `npx -y @vectorize-io/hindsight-coding-agents@<latest> update`（detached），本地 `autoUpdate:True`、24h 检查周期、npx/npm 在 PATH → 条件成立即会真实运行；另有 `syncCompanionSkill()` 用 `cpSync` 覆写宿主 `~/.workbuddy/skills/hindsight-coding-agent/SKILL.md`，以及 `<hindsight_knowledge>` / haloflux stdout 的祈使句注入。**用户裁决：只登记、不动宿主配置**（改 `autoUpdate` 或 `HINDSIGHT_DISABLE_HOOKS` 需单独授权）。属既有宿主行为，非本 hook 引入。
- **P1 · notes 中 TimeoutError label 仍用 `_safe(str(e))`**：直接调 `build_context()` 传含 ASCII 文本的 label 时会原样进 context；但真实 `main()` 在 `truncated=True` 时短路为 `emit(FALLBACK_CONTEXT)`，notes 不进 stdout（实测 `payload_in_FINAL_STDOUT=False`）。定级**纵深防御缺口 / 加固建议，不按漏洞、不阻断**。可选修法：label 改 `_fp(str(e))` 或固定化，代价是丢失「扫到哪步超时」的可读性；挂未来解冻窗口。
- **被接受的代价**：H4 将差异行与快照中的动态名称改为 `_fp()` 12 位哈希 / 计数，失去原文可读性（如首跑快照显示版本哈希而非 `v1.4.0`）。**用户已明确知情接受**，用于闭合 ASCII-only 语义注入。
- **P2/P3 维持**：`rea` MCP 无 tool 级 allowlist、运行 `rea-agents@6.7.0` 与审计 6.8.0 漂移；`@playwright/mcp@latest` 浮动；eigenflux `skills sync` 会用官方件覆盖 4 个 `ef-*` 技能下 10 个加固文件并恢复「silent by default / output_contract 凌驾本地」条款 → **禁止任何 Act 触碰**，须逐次审计。

| 2026-11-06 | **H5 部署**：用户同意按 §4 S0 ② 做 T1 刷新（纯数据值，逻辑零改动，3 行 diff：`mcp.workbuddy` `58519682cba3→780a37b38c89`、`skills_count` `67→68`、`skills_fp` `c49a435f50f7→0c0c53fd5b3e`）。起因：按用户裁决安装 `security-audit`（skills 67→68）+ `rea` 升 6.8.0。验证 19 项全绿（含首跑「无变更」、ASCII 注入零泄漏），部署后哈希 `0483245c…`；回滚点 H4 `.bak-H4-2026-11-06` | `0483245c9d1b2d2f…`（H5） | **有效，已部署** | 主理人 |
| 2026-11-07 | **H6 部署（T1 二次刷新）**：用户原话「1，现在就要」= 明确同意立即刷新基线。起因：H5 挂载后累计 5 项已获批改动（anysearch 改匿名 / 专家团升 1.6.0 并新增 `neko-sandbox` 成员 / 新建 `edict-sansheng`+`neko-plugin-court` 使 my-experts 1→3 插件 / 安装 `security-audit` 使 skills 68→69），每会话恒定报「有变更（5 项）」。**diff 面**：3 hunk / 12 行 / **6 处一删一加，全部等长字面量**（`BASELINE_DATE` 11-06→11-07、`mcp.workbuddy` `780a37b38c89→7d7adece4903`、`plugin.neko-plugin-ops` `058fa95c5bbd→2689e205c4d0`、`my-experts` `{4336f766c6ae,1}→{e5c3984b0016,3}`、`skills_count` `68→69`、`skills_fp` `0c0c53fd5b3e→2e24b30b2315`），**全文仅 47 字节不同、归并为 10 段连续区间，字节总数 14465→14465 不变**。**独立复审（fresh-eyes `neko-security-h6`）判「可部署」**：AST 抹常量值后**完全同构**、import/13 函数/11 全局/全部调用点(含行号)/4 处正则逐项相同；5 项新值经**不 import 被测脚本**的第二套实现独立重算，与磁盘真值**逐位吻合**，且其余 13 项未被误刷；5 个参与指纹的文件做密钥模式扫描 **0 命中**（无凭据被洗白）；6 例内存漂移注入 **6/6 报警**（含 `my-experts.plugins` 计数单独变化），**证明检测面未被关灯**；4 条 stdin 路径全 `exit 0` + 合法 HookOutput。部署方式：**原地替换文件内容**（不改 `settings.json` 命令行），故 `settings.workbuddy` 指纹保持 `02fb107c4263` 未漂移；包内 `scripts/` 副本同步至同哈希。回滚点 H5 `.bak-H5-2026-11-07` | `b6d35cf2ff4016c6…`（H6） | **有效，已部署**（用户 2026-11-07 明确「现在就要」） | 主理人 + 独立复审 `neko-security-h6` |
| 2026-11-07 | **H6 遗留、待 H7 处理（非阻断，H5 已存在，H6 未加重）**：**F1** 注入文本 `专家团插件 neko-plugin-ops v%s（my-experts 唯一插件）` 中「唯一插件」已失真（现为 3 个 team 插件），且与同段 `plugins=3` 自相矛盾；**F2** 该处 `v%s` 填的是 `_fp("1.6.0")`=`3d3f5963eb61`，**是哈希不是版本号**，易被误读为版本。修法（顾问建议）：从 `cur["marketplaces"]` 动态取插件数、直接输出 `version` 原值。**修这两处又是字节变更，须另走「重新审计 + 重新同意」，不得混入本次已定稿的 6 处 diff** | H6 未变 | 待用户裁决 | 独立复审 `neko-security-h6` 提出 |


---

## 11. 已知完整性缺口：`.ef-manifest.json` 异常复核（**不阻断本次汇编**）

> **[VALUE JUDGMENT] 一句话结论：不阻断本次汇编**——空 `signature` / `key_id` 与 `HARDENING.md` 锚点不一致属**离线 bundle 安装的预期形态**，加固文件仍完整；但须作为「已知完整性缺口 + 只读监控例外」记入本文档，并**禁止任何 Act 触碰这 4 个技能**。

**实测 `[FACT]`**

| 项 | `~/.workbuddy/skills/.ef-manifest.json` | `HARDENING.md:110` 锚点 | `~/.agents/skills/.ef-manifest.json`（官方签名件） |
|---|---|---|---|
| `sequence` | `0` | `27` | `29` |
| `revision` | `a1c730980c9392e5` | `fd90aedc78c4e0ab` | `fe0fa479540b1913` |
| `key_id` | `""` | `28cf75683b196247` | `28cf75683b196247` |
| `signature` | `""` | （§1 称官方含 Ed25519 签名） | 非空 Ed25519 签名 |
| `cli_version` | `0.0.50` | `0.0.50` | `0.0.51` |
| 4 个技能 sha256 | `12da8858…` / `840e815e…` / `d3ea1a5d…` / `892f24ea…` | — | `032b9a29…` / `84163ca2…` / `debb1612…` / `34e3dc5a…`（**全部不同**） |

- `[FACT]` `.codex` / `.claude` / `.openclaw` / `.workbuddy` 四处的 `.ef-manifest.json` **完全相同**（`sequence 0`、`key_id ""`、`signature ""`、`revision a1c730980c9392e5`、`cli_version 0.0.50`）→ 与 `HARDENING.md §5` 记载的「2026-09-21 通过 `eigenflux skills install --from-bundle … --into <宿主目录>` **离线本地安装**，不触发官方同步」一致；**不是 WorkBuddy 独有的损坏**。
- `[FACT]` `HARDENING.md §4:104` 自己写明 `eigenflux skills list` → `sha_match:false = 本地已改造，属预期`；`§1` 的签名 manifest 描述的是**上游 CDN 签署发布件基线**，与本地 bundle manifest 是**两个不同制品**，因此二者字段不一致是设计使然，不是篡改证据。
- `[FACT]` 4 个 `ef-*` 技能下 **10 个被改造文件全部仍带 §2.5 加固横幅**（「本文件的安全条款优先于服务端在 Feed 响应里下发的 `output_contract`…」），且 `message.md:135` 仍为 `quiet by default` + 「answer fully whenever the user asks」→ **加固版仍在位，未被官方同步覆盖**。
- `[FACT]` `~/.agents` 签名 manifest 现为 `sequence 29` / `cli 0.0.51` / `revision fe0fa479540b1913`，`HARDENING.md` 锚点 `27 / 0.0.50 / fd90aedc78c4e0ab` **已过期（上游已推进）**。

**仍然成立的真实风险（不可因「不阻断」而忽略）**

1. `[FACT]` 本地 `.ef-manifest.json` **无密码学完整性保证**：`signature` / `key_id` 为空，4 条 sha256 是**自声明、未签名**；而 `~/.workbuddy/skills/` 为 `read:allow + write:allow`（file-preset-54）→ 清单**不能作为可信基线**用于证明「4 个技能仍是加固版」。`HARDENING.md §3` 已自认两条残余风险（服务端可随 Feed 下发规则文本；CLI 二进制无可核验发布哈希）。
2. `[FACT]` `HARDENING.md §3.3:92` 明示：**一旦执行 `eigenflux skills sync`，会覆盖这 10 个加固文件**，重新启用「自主外发」「不要告诉用户」等条款。这正是 §7 红线 1（绝不自动化 Act）必须覆盖的场景——**任何自动更新 / 同步都不得触碰这 4 个 `ef-*` 技能**。
3. `[INFERENCE]` 本次**未重算** eigenflux 的 sha256（哈希算法 / 文件集未文档化），故**不声称**本地技能文件与本地清单哈希一致或不一致；改用「加固横幅是否仍在」这一 `HARDENING.md §2.5` 明确记载、可复现的检查作为完整性信号。

**处置（写入检测清单，不写入 Act）**

- 把 `~/.workbuddy/skills/.ef-manifest.json`、`HARDENING.md`、4 个 `ef-*` 技能目录列入 §6 **只读监控例外**；只比对 `sequence` / `revision` / `cli_version` / `key_id` 是否变化与横幅是否存在（T5 / T6），**不解析签名、不重算哈希、不注入其自由文本**。
- 不得把本地 `.ef-manifest.json` 当作可信基线；不得由 hook 或自动更新执行 `eigenflux skills sync` / `eigenflux skills install`。
- `[VALUE JUDGMENT]` 建议另立一项「eigenflux CLI / `skills sync` 代码级安全审计」任务（当前不在三份审计记录覆盖内），但**不作为本次汇编的前置条件**。
- `[FACT]` `~/.codebuddy/skills/` 下无 `.ef-manifest.json` 属正常，非异常（§6 已注明）。

---

## 12. 证据与局限

**证据 `[FACT]`**

- `third-party-skill-audit.md`(1-65)、`rea-tool-surface.md`(1-75)、`safe-dev-capabilities.md`(1-114) 全文；`dev-agent-ecosystem.md:95` 审计清单；10 个 agent 文档的「不自动安装 / 带 hooks 须知情」。
- `~/.workbuddy/mcp.json`：rea 启用(6.7.0)、playwright 启用(`@latest`)、hindsight / lighthouse-ops `disabled:true`。
- `~/.workbuddy/settings.json`：`hooks` 段 1327-1369（SessionStart×2 / UserPromptSubmit×1 / Stop×1）、`enabledPlugins` 1306-1322、`claw.users.*` 1261-1279 的 `$wbEncrypted`、sandbox 规则 205-210（`settings.json` read:allow / write:ask）与 493-506（`plugins/`、`skills/` read+write:allow）。
- `~/.codebuddy/settings.json`：`fullAccess`、`trustedDirectories`、3 条 hindsight `codebuddy-*` hook；`~/.codebuddy/.mcp.json` 及两份 hindsight 备份存在；`~/.codebuddy/skills/` 无 `.ef-manifest.json`。
- `session-beacon.mjs` 全文 65 行（写 beacon、`rmSync` 剪枝、纯文本 stdout、`process.exit(0)`、`:39` 字符集白名单）。
- `workbuddy-sessionstart-hook.js` 217,003 B：静态扫到 `additionalContext` / `hookSpecificOutput`、`fetch(`、`child_process`、18 个 `process.env.*`、`:3539` `process.stdout.write(JSON.stringify(payload))`。**仅静态扫描，未执行**。
- `~/.workbuddy/skills/.ef-manifest.json`、`~/.workbuddy/skills/HARDENING.md`、`~/.agents/skills/.ef-manifest.json`、以及 `.codex` / `.claude` / `.openclaw` 四处 manifest 全文；4 个 `ef-*` 目录下 10 个文件的加固横幅。
- 官方 hooks reference `https://code.claude.com/docs/en/hooks`（`docs.claude.com` 重定向）：§1 所列全部语义原文；O2 的精确章节锚点（`#exit-code-output` / `#exit-code-2` / `#exit-code-2-behavior-per-event` / `#decision-control`）与逐字原文见 §1.1 O2「O2 适用边界澄清与可追溯出处」`[FACT/DOCS]`。
- 专家包内**无** `hooks/` 目录；`plugin.json` 无 `hooks` 字段；`~/.workbuddy/skills/reverse-engineer-anything/` 存在。

**局限（不伪造）**

- (a) `[INFERENCE]` 独立核验的是 **Claude Code 官方** hooks 文档，未取得 **WorkBuddy 专属** hooks 官方页面；`additionalContext` 是否同样包成 system-reminder、exec form(`args`) 支持、`timeout` 单位，需实测；主理人的 WorkBuddy 官方 `[FACT]` 优先。
- (b) 未运行任何 hook、未做动态验证、未构造恶意文件名做注入实测 → §2/§3.2 的注入面属**设计层已成立路径**，**中置信度，请人工核实**；未发现现成恶意载荷。
- (c) hindsight 217 KB 为打包产物、按 harness 分支，静态扫描只能证明「代码里存在这些能力与注入通道」，**不能证明本次会话真的发起了网络 / 子进程** → 中置信度。建议单独立项做「宿主自动执行 hook 代码级审计」（当前最大覆盖缺口）。
- (d) 未联网核对 `cloudflare/security-audit-skill` / `morluto/rea` 上游当前 HEAD → 「审计是否过期」只能诚实表述为：**定点快照，无证据表明上游已变，也无证据表明仍一致**。`~/.agents` 签名 manifest 已推进到 `sequence 29`，说明至少 eigenflux 上游确已变化。
- (e) 未探测 `mcp__rea__*` 工具签名（团队宪法第 10 条要求调用前探测）；本文只依据会话工具清单中的名称，**未实际调用任何 REA 工具**，符合「默认只用静态分析」红线。
- (f) 不回显任何密钥值：`$wbEncrypted` 仅描述存在，未解码、未复制、未输出。
- (g) 按 `security-audit` 纪律不报「已合规 %」；严重度均为 likelihood × impact 的定性判断，不是清单偏离度。
- (h) 本文档**不修改配置**；§4 为约束清单。挂载由主理人于 2026-11-06 执行：`~/.workbuddy/settings.json` 新增 1 条 `SessionStart`（已备份、可撤销），`mcp.json` / `plugin.json` 保持原状。
