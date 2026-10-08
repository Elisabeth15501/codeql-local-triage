---
displayName: 本地 CodeQL 告警定位与修复验收（中文版）
summary: codeql-local-triage 技能的中文表述，与 SKILL.md 是同一技能的两种语言、内容镜像一致。
description: 本文件是 codeql-local-triage 技能的中文表述，与 SKILL.md 是同一技能的两种语言、内容镜像一致、地位对等且同等接受安全扫描。不替你跑扫描，而是回答「这条 CodeQL 告警为什么报、改哪一行才会消失」——用变体二分给出可复现的因果结论。当你说「确认 taint 源 / 复现这个 CodeQL 告警 / 为什么 CodeQL 报这个 / CodeQL 误报 / 这个告警是不是误报 / 本地跑 CodeQL / 验证安全告警是否修好」，或拿到 .sarif 文件被问污染从哪开始时使用。不适用于整库告警的批量排查与处置（不替代 Code Scanning suite、不替你 dismiss / 关闭告警）；不适用于 Java/JS/Go（当前仅 Python）；不适用于名字启发式之外的规则族。预筛脚本可对你指定的文件/目录做敏感名清点，但不下结论、不产出审计报告。
when_to_use: 当用户手上已有一条具体告警（GitHub Code Scanning 告警、或 规则 id + 文件 + 行号、或 .sarif 文件），并问污染从哪来、是不是误报、或修复是否生效时使用。不要用于——整库告警排查与优先级排序、关闭或 dismiss 告警、非 Python 语言、名字启发式之外的规则、以及「我的仓库安全吗」这类泛问。
allowed-tools: [Read, Grep, Glob, Bash]
disable-model-invocation: false
user-invocable: true
context: fork
agent_created: true
version: 1.0.6
---

# 本地 CodeQL 告警定位与修复验收

> **本文件是单语的 agent 入口。** 同一内容完整、同样权威的英文表述是 `SKILL.md`，两者有意镜像维护、
> 同等接受安全扫描。所有示例均为合成样本，不含任何真实项目源码。
>
> **分层（渐进式披露）**：本文件只承载**每轮都要用**的内容（§0 硬约束、§1 单次执行流程）。
> 其余一律放 `references/`——**按需再读**，不要预先通读。

---

## §0. 硬约束 —— 即使上下文被压缩，每轮也必须重读

这些不是建议。若上下文被压缩、或本技能在任务中途被重新加载，**动手前先重读本节**。
它之所以放在最前面且写得紧凑，正是为此。

| # | 约束 | 为什么存在 |
|---|---|---|
| **H1** | **每个变体只改一处。** `t1_control` 与变体之间若有两处差异，整轮实验作废。 | 判定本身就是归因。多变量差异无法归因。`tests/run_tests.py` 有严格字节比对断言守着。 |
| **H2** | **`t1_control` 必须复现告警，否则停下。** 若它是 0 结果，说明本地与远端不一致，**后续所有判定均无效**（脚本 exit `1`）。 | 在不复现的基线上下结论等于在流沙上盖楼。先解决版本不一致。 |
| **H3** | **绝不 dismiss、抑制或关闭告警。** 不写 `# lgtm`，不调 dismiss API。修法是**改名**，不是抑制注释。 | 只有 GitHub 自己的扫描能改告警 `state`。抑制会掩盖下一个真问题。 |
| **H4** | **绝不凭「看着不对劲」判断告警。** 「感觉像误报」不是证据，要跑实验。 | ①②步给出路径，③步才让结论**可复现**而非靠猜。 |
| **H5** | **绝不修改用户源码。** 只读。产物只写 `<tree>/_bisect/`（或 `--workdir`）。每轮 `rmtree` 重建，重复运行幂等。 | 修不修、怎么修由用户自己决定。本技能的写盘面必须可审计。 |
| **H6** | **绝不宣称告警已关闭。** 只有 `state` 变化、或告警位置移动才能证明重扫——**`updated_at` 不算**（它只在状态变化时刷新）。 | 误报「已关闭」比不报更糟。 |
| **H7** | **绝不把退出码 `2` 当成「干净」。** `2` 是输入/运行错误（路径缺失、SARIF 非法、参数错、`codeql` 超时）。只有 `0` 才是干净。 | 最危险的误判：路径打错却被静默读成「无发现」。v1.0.2 起修复。 |
| **H8** | **不联网。** 不下载任何东西。缺查询包就如实告知，由用户决定，①②步照常可用。 | 本技能全程不需要网络；`--codeql /abs/path` 可完全离线跑。 |
| **H9** | **按用户语言调用每个脚本。** 取用户最近一条消息的语言，传 `--lang zh` 或 `--lang en`（或导出 `AGENT_UI_LANG`）。绝不依赖双语输出。 | 脚本按设计只输出单一语言；混排有触发 natural language policy violation 的风险。 |
| **H10** | **一轮闭环，不要为「刷新」而重读本文件。** 单次排查所需的全部内容就在 §0 + §1。 | 防止 agent 在任务中途反复回头重读技能的死循环。 |

### 能力边界

| 能力 | 范围 | 说明 |
|---|---|---|
| 读 | 你指定的本地源码 | 只读，**不修改**（H5） |
| 写 | `<tree>/_bisect/` 或 `--workdir` | 除此之外任何位置都不写 |
| 执行 | `python3`；**可选** `codeql` | 列表传参、**不经 shell** |
| 网络 | **无** | `allowed-tools` 已排除 WebFetch/WebSearch（H8） |

### 退出码契约 —— 所有判定的唯一真相

| 码 | 含义 | CI 视为 |
|---|---|---|
| `0` | 成功 / 未发现候选源 / 断言通过 | ✅ 通过 |
| `1` | 发现候选源，**或**基线未复现（**这是判定结果**） | ❌ 失败 |
| `2` | 输入 / 运行错误——路径缺失、SARIF 非法、参数错、`codeql` 失败或超时 | ❌ **失败**（绝非「通过」） |

### 执行模型与超时（怀疑卡死前先读这段）

- ①② 步是**纯解析器，完全不启动任何子进程**——`scan_sensitive_sources.py` 只用 `ast` + `re`，
  `read_sarif.py` 只用 `json`。耗时只随输入规模增长，不可能卡在外部进程上。
- 本技能**唯一**的长耗时子进程是 `bisect_taint.py` 调用 `codeql`：**单步超时 1800 秒 + 自动重试一次**；
  连续超时返回 `124`，由调用方转成退出码 `2` 并打印 `[warn]`。

---

## §1. 单次执行流程 —— 五步，单轮内可闭环

每步写明**输入 → 命令 → 输出 → 失败兜底**。按顺序执行；**不要为完成某步而回头重读别的文件**。
①② 步**不需要装 CodeQL、不需要联网**（国内 / 隔离网络用户：活儿到这儿就能干完——
只有需要第 ③ 步时才看 `references/running-codeql-cli.md` §5）。

### 第 1 步 —— 预筛（可选但很便宜，省掉约 9 分钟建库）

- **输入**：告警所在的文件或目录；最好带上规则 id。
- **执行**：`python scripts/scan_sensitive_sources.py <src> [--summary] [--jobs N]`
- **输出**：每个候选源的类别、行号、命中标签；退出码按契约取 `0`/`1`/`2`。
- **兜底**：退出码 `2` ⇒ 路径写错或无法解析，**先修输入，不要往下走**（H7）。
  它是**名字清单、不是判定**，不对任何告警下结论。

### 第 2 步 —— 读 SARIF（通常答案就在这一步）

- **输入**：一份 `.sarif` 文件——来自用户的 CI 产物，或 `codeql database analyze
  --format=sarif-latest` 的输出。
- **执行**：`python scripts/read_sarif.py <file.sarif> [--paths-only | --json | --expect N]`
- **输出**：完整的 `SOURCE → … → SINK` 路径（含行号与节点语义），以及结果条数（`0` 即干净）。
- **兜底**：文件非法时脚本会指出确切行列并拒绝非 SARIF 输入，退出码 `2`。
  **绝不把解析失败读成「0 条结果」**（H7）。

### 第 3 步 —— 暂存变体（同样不需要 CodeQL）

- **输入**：嫌疑名字与拟替换的新名字。
- **执行**：`python scripts/bisect_taint.py --source <f.py> --tree <dir> --dry-run --variant t2=A:B`
- **输出**：暂存好的变体目录树与替换处数，并打印等价的建库/分析命令模板。
- **兜底**：`--variant` 格式错误会被具体拦下并附示例（退出码 `2`）。
  改动复杂到字面量替换表达不了时，用 `--variant-file t3=/path/t3.py`。

### 第 4 步 —— 跑对照实验（需要 CodeQL CLI）

- **输入**：已暂存的变体 + `--codeql /abs/path/to/codeql`（本地安装即可，无需配 PATH）。
- **执行**：同一条命令，**去掉** `--dry-run`。
- **输出**：判定表。`t1_control` > 0 ⇒ 有效；`t2` = 0 ⇒ **该改动就是 taint 源**；
  `t2` 仍命中 ⇒ **不是**。
- **兜底**：`t1_control` = 0 ⇒ **立即停止**（H2）。不要把其它任何行当作有意义；
  先对齐 CodeQL 版本 / 查询包。`codeql` 缺失或超时 ⇒ 退出码 `2`，①②步结论仍然有效。

### 第 5 步 —— 交付结论与验收

- **输出**（四项缺一不可，否则结论不完整）：
  1. **taint 源** —— `名字:行号`，附类别与命中理由。
  2. **最小改动** —— 通常是改名，逻辑零变更。
  3. **证据** —— 各变体的**实测**结果条数（不是预测）。
  4. **修复后验收**：预筛归零；`read_sarif.py --expect 0` 返回 `0`；
     在定义处留一句「**勿改回去**」+ 规则出处。
- **兜底**：走不到第 4 步 ⇒ **明确说明**，只交付 ①② 步的结论并标注「**尚未证明**」。
  绝不让未证明的结论看起来像已验证（H4）。

---

## §2. 为什么这么做（背景，不是指令）

GitHub 的告警页面**不给数据流**——只标 sink 那一行，不告诉你污染从哪来。远端扫描要等几分钟，
还做不了对照实验。本地跑单条查询 + 变体二分，约十分钟给出**可复现的因果结论**。

**定位**：**单条**告警的因果归因——「为什么报、改哪一行才会消失」。它**不是**整库告警判定
（那是 Code Scanning **query suite** 的职责——「查询套件」是 CodeQL 的查询集合概念，与系统服务/计划任务无关），
也**不**用模型直觉给告警排序。结论来自实测实验——这正是它可审计的原因。

**当前深耕**：**Python**（`scan_sensitive_sources.py` 只覆盖 `py/*`；另两个脚本与语言无关）
与**名字启发式**规则族，主战场是 `py/clear-text-storage-sensitive-data`（CWE-312）——
因为它的 source 判定**只看名字不看内容**，最适合被证伪。Java / JS / Go 是 roadmap，不是当前能力。

**跨技能分工**：要在 GitHub 上**管理**告警（列出、改状态、批量处理），用 GitHub 官方告警管理能力
或 `gh api code-scanning`。二者互补、不竞争。

### 会改变结论的四个事实

1. **「变体二分」≠ Trail of Bits 的 `variant-analysis`。** 前者用对照实验定位**一条**告警的成因；
   后者是在多个项目里普查同一 bug 的其他实例。方向相反。
2. **读 QL 源码推断不可靠，而且首选假设猜错是常态。** 路径上的 `base64` 解码、`json.dumps`、
   f-string 都**看着**像污染源。先跑实验，再写结论（H4）。
3. **哪些名字*不*算敏感** —— `[REDACTED_SECRET]` 这类占位符（反向排除器含 `redact`）不算；
   `id` 与 `certificate` 也被 CWE-312 显式排除。详见 `references/sensitive-data-heuristics.md`。
4. **产物命名** —— 变体目录 `workdir/<NAME>/` · 数据库 `workdir/<NAME>/_db` ·
   SARIF `workdir/<NAME>.sarif`（与目录同级、不在目录内）· 判定表只打 stdout，**从不落盘**。
   把 `_bisect/` 加进 `.gitignore`，或用 `--workdir` 指到仓库外。

### 常见坑（某一步行为异常时再读）

- 告警行号会随改动漂移；只有 `most_recent_instance.location` 反映最近一次扫描。
- 编译型语言建库前要跑构建；**Python 不需要**。
- **并发改动会让结论失步**——整仓建库前用 `ls --time-style=full-iso` 核对 mtime 与建库时间。
- `git archive HEAD` 只读 **HEAD 树里的** `.gitattributes`；文件未跟踪时 `export-ignore` 静默失效。
  自检：`git check-attr export-ignore -- <path>`。
- 改预筛的正则移植时：QL 支持变长 lookbehind 而 Python 的 `re` 不支持——须把 `(?<!is|is_)`
  改写成多个定长断言 `(?<!is)(?<!is_)` 串联；行内 flag 要作为参数传给 `re.compile` 而不能出现在表达式中间。
  改完务必跑 `python scripts/scan_sensitive_sources.py --self-test` 验证分类器仍与 QL 定义一致。

四个最高频问题（基线不复现 / 复杂改动 / 能否 dismiss / 哪些名字不算敏感）的**完整答案**在
**`references/faq.md`**——真正撞上时再去读。

---

## §3. references/ —— 按需读，不要预先通读

| 文件 | 什么时候读 |
|---|---|
| `references/README.md` | `references/` 索引 + 按当前目的选的「怎么读」路径表 |
| `references/faq.md` | 基线不复现 · 复杂改动 · 能否 dismiss · 哪些名字不算敏感 |
| `references/running-codeql-cli.md` | 第 ③ 步需要 CodeQL：完整安装链（§1–§4）；**§5** 镜像、预建库、全离线 |
| `references/sensitive-data-heuristics.md` | 需要 5 组正则、反向排除器、7 类 source 时 |
| `references/ci-integration.md` | 把「结果数必须归零」变成 CI 门禁（GitHub Actions / GitLab CI） |
| `README.md` | 面向人类的完整教程：完整示例、安装、验证、CI |

### 完整示例（实测值，非预测）

`tests/fixtures/repro/scan.py` 是一个 25 行的**合成**文件，**不存任何真实凭据**——它只持有一个
「`sk-…` / `ghp_…` 形状」的**正则 pattern 字符串**列表，用来复现「名字命中 CodeQL 名字启发式」这一
最小误报。实测 SARIF 已随仓库提供：`tests/fixtures/sarif/repro.sarif`（1 条）与
`repro_fixed.sarif`（0 条），所以**下面每条命令不装 CodeQL 也能跑**。

| 变体 | 改了什么 | 结果数 | 判定 |
|---|---|---|---|
| `t1_control` | 无（自动添加） | 1 | 基线复现 ✅ |
| `t2_rename` | `SECRET_PATTERNS` → `CREDENTIAL_PATTERNS` | **0** | ✅ 就是这个名字 |
| `t3_xxx`、`t4_xxx` … | 你自己补的嫌疑项 | — | 0 ⇒ 是成因；仍命中 ⇒ 不是 |

修法是改名：逻辑零变更、不动任何公开 API，告警不会复发。两份 fixture 的 docstring 首行已标注
「TEST FIXTURE — NOT THE SKILL IMPLEMENTATION」——`tests/` 是自测与可执行样本，**不是**主体逻辑；
扫描器若把它误读为技能实现，属误报。
