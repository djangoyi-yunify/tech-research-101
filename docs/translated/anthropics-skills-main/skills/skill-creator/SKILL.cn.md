---
name: skill-creator
description: Create new skills, modify and improve existing skills, and measure skill performance. Use when users want to create a skill from scratch, edit, or optimize an existing skill, run evals to test a skill, benchmark skill performance with variance analysis, or optimize a skill's description for better triggering accuracy.
---

# Skill Creator

一个用于创建新 skill 并迭代改进它们的 skill。

宏观上看，创建 skill 的过程如下：

- 确定 skill 的功能及其大致实现方式
- 编写 skill 草稿
- 创建一些测试 prompt，并在其上运行 claude-with-access-to-the-skill
- 帮助用户对结果进行定性和定量评估
  - 当运行在后台进行时，如果没有定量 evals，请起草一些（如果已经有一些，你可以按原样使用，或者如果你觉得需要更改，也可以进行修改）。然后向用户解释它们（或者如果它们已经存在，解释那些已经存在的）
  - 使用 `eval-viewer/generate_review.py` 脚本向用户展示结果供其查看，并让他们查看定量指标
- 根据用户对结果的评估反馈重写 skill（如果定量基准测试中发现明显的缺陷，也一并修正）
- 重复此过程直到满意为止
- 扩大测试集并尝试更大规模的测试

使用此 skill 时，你的任务是确定用户处于流程的哪个阶段，然后介入并帮助他们推进这些阶段。例如，他们可能会说“我想为 X 制作一个 skill”。你可以帮助缩小他们意图的范围，编写草稿，编写测试用例，确定他们想要如何评估，运行所有 prompt，并重复此过程。

另一方面，也许他们已经有了 skill 的草稿。在这种情况下，你可以直接进入循环的评估/迭代部分。

当然，你应该始终保持灵活，如果用户说“我不需要运行一堆评估，只要跟着我的感觉走”，你可以照做。

然后，在 skill 完成后（同样，顺序是灵活的），你还可以运行 skill description improver，我们有专门的脚本用于优化 skill 的触发。

明白了吗？很好。

## 与用户沟通

Skill creator 可能会被熟悉编码术语程度各不相同的人使用。如果你还没听说过（你怎么可能听说过，这趋势才刚刚开始），现在的趋势是 Claude 的强大功能正在激励水管工打开终端，父母和祖父母去谷歌搜索“how to install npm”。另一方面，大多数用户可能具备相当的计算机素养。

因此，请注意上下文线索，以了解如何措辞沟通！在默认情况下，为了给你一个概念：

- “evaluation”和“benchmark”处于临界点，但可以使用
- 对于“JSON”和“assertion”，在使用前需确认用户确实了解这些概念，否则需要解释，不要想当然

如果你不确定，可以简要解释术语，如果你不确定用户是否理解，可以随时用简短的定义来澄清术语。

---

## 创建 skill

### 捕捉意图

首先了解用户的意图。当前的对话可能已经包含了用户想要捕捉的工作流程（例如，他们说“把这个变成一个 skill”）。如果是这样，首先从对话历史中提取答案——使用的工具、步骤顺序、用户所做的修正、观察到的输入/输出格式。用户可能需要填补空白，并应在进入下一步之前确认。

1. 这个 skill 应该使 Claude 能够做什么？
2. 这个 skill 何时应该触发？（什么用户短语/上下文）
3. 预期的输出格式是什么？
4. 我们是否应该设置测试用例来验证 skill 是否有效？具有客观可验证输出的 skill（文件转换、数据提取、代码生成、固定工作流程步骤）受益于测试用例。具有主观输出的 skill（写作风格、艺术）通常不需要。根据 skill 类型建议适当的默认设置，但由用户决定。

### 访谈与研究

主动询问有关边缘情况、输入/输出格式、示例文件、成功标准和依赖关系的问题。在理清这部分之前，暂缓编写测试 prompt。

检查可用的 MCP——如果对研究有用（搜索文档、查找类似的 skill、查阅最佳实践），如果可用，通过 subagent 并行研究，否则在行内进行。准备好上下文以减轻用户的负担。

### 编写 SKILL.md

根据用户访谈，填写以下组件：

- **name**：Skill 标识符
- **description**：何时触发，做什么。这是主要的触发机制——包括 skill 的功能以及在何时使用的特定上下文。所有“何时使用”的信息都在这里，而不是在正文中。注意：目前 Claude 倾向于“触发不足”——即在该有用的时候不使用它们。为了解决这个问题，请让 skill 描述稍微“强势”一点。例如，与其写“How to build a simple fast dashboard to display internal Anthropic data.”，不如写“How to build a simple fast dashboard to display internal Anthropic data. Make sure to use this skill whenever the user mentions dashboards, data visualization, internal metrics, or wants to display any kind of company data, even if they don't explicitly ask for a 'dashboard.'”
- **compatibility**：所需工具、依赖项（可选，很少需要）
- **skill 的其余部分 :)**

### Skill 编写指南

#### Skill 的结构

```
skill-name/
├── SKILL.md (required)
│   ├── YAML frontmatter (name, description required)
│   └── Markdown instructions
└── Bundled Resources (optional)
    ├── scripts/    - Executable code for deterministic/repetitive tasks
    ├── references/ - Docs loaded into context as needed
    └── assets/     - Files used in output (templates, icons, fonts)
```

#### 渐进式披露

Skills 使用三级加载系统：
1. **Metadata**（名称 + 描述）- 始终位于上下文中（约 100 词）
2. **SKILL.md body** - 当 Skill 触发时位于上下文中（理想情况少于 500 行）
3. **Bundled resources** - 按需加载（无限制，脚本无需加载即可执行）

这些字数统计为近似值，如有必要可适当延长。

**关键模式：**
- 将 SKILL.md 保持在 500 行以内；若接近此限制，需增加一层层级结构，并清晰指明使用该 Skill 的模型下一步应前往何处进行后续操作。
- 在 SKILL.md 中清晰引用文件，并提供何时读取的指导。
- 对于大型参考文件（>300 行），需包含目录。

**领域组织**：当 Skill 支持多个领域/框架时，按变体进行组织：

```
cloud-deploy/
├── SKILL.md (workflow + selection)
└── references/
    ├── aws.md
    ├── gcp.md
    └── azure.md
```

Claude 仅读取相关的参考文件。

#### 无惊吓原则

虽然这是不言而喻的，但 skills 绝不能包含恶意软件、漏洞利用代码或任何可能危及系统安全的内容。如果对 skill 的内容进行描述，其意图不应让用户感到意外。不要配合创建误导性 skills 或旨在协助未授权访问、数据窃取或其他恶意活动的 skills 的请求。不过，诸如“扮演 XYZ”之类的内容是可以接受的。

#### 写作模式

在指令中优先使用祈使句。

**定义输出格式** - 您可以这样做：

```markdown
## Report structure
ALWAYS use this exact template:
# [Title]
## Executive summary
## Key findings
## Recommendations
```

**示例模式** - 包含示例很有帮助。你可以像这样格式化它们（但如果示例中包含 "Input" 和 "Output"，你可能需要稍作调整）：

```markdown
## Commit message format
**Example 1:**
Input: Added user authentication with JWT tokens
Output: feat(auth): implement JWT-based authentication
```

### 写作风格

尝试向模型解释事情的重要性，以此代替生硬、陈旧的“必须”式命令。运用心智理论，尝试使技能具有通用性，而非仅局限于特定示例。先撰写草稿，然后以全新的视角审视并加以改进。

### 测试用例

编写完技能草稿后，设想 2-3 个现实的测试提示词——即真实用户实际可能会说的内容。与用户分享这些提示词：[你不必完全照搬这段话] “我想尝试这几个测试用例。它们看起来合适吗？还是你想增加更多？” 然后运行它们。

将测试用例保存到 `evals/evals.json`。先不要编写断言——仅保存提示词。你将在下一步运行过程中起草断言。

```json
{
  "skill_name": "example-skill",
  "evals": [
    {
      "id": 1,
      "prompt": "User's task prompt",
      "expected_output": "Description of expected result",
      "files": []
    }
  ]
}
```

完整 schema 请参见 `references/schemas.md`（包含你稍后将添加的 `assertions` 字段）。

## 运行并评估测试用例

本节是一个连续的序列——请勿中途停止。请勿使用 `/skill-test` 或任何其他测试技能。

将结果放入 `<skill-name>-workspace/` 中，该目录应与 skill 目录同级。在 workspace 内，按迭代组织结果（`iteration-1/`、`iteration-2/` 等），在迭代目录内，每个测试用例对应一个目录（`eval-0/`、`eval-1/` 等）。不要预先创建所有这些——只需在过程中按需创建目录。

### 步骤 1：在同一轮次中生成所有运行（with-skill 和 baseline）

对于每个测试用例，在同一轮次中生成两个 subagent——一个带有 skill，一个不带。这一点很重要：不要先生成 with-skill 运行，然后再回头处理 baseline。一次性启动所有内容，以便它们大致同时完成。

**With-skill 运行：**

```
Execute this task:
- Skill path: <path-to-skill>
- Task: <eval prompt>
- Input files: <eval files if any, or "none">
- Save outputs to: <workspace>/iteration-<N>/eval-<ID>/with_skill/outputs/
- Outputs to save: <what the user cares about — e.g., "the .docx file", "the final CSV">
```

**基准运行** (相同的 Prompt，但基准取决于 context)：
- **创建新 skill**：完全没有任何 skill。相同的 Prompt，无 skill path，保存至 `without_skill/outputs/`。
- **改进现有 skill**：旧版本。编辑前，对 skill 进行快照（`cp -r <skill-path> <workspace>/skill-snapshot/`），然后将 baseline subagent 指向该快照。保存至 `old_skill/outputs/`。

为每个测试用例编写一个 `eval_metadata.json`（assertions 目前可以留空）。根据测试内容为每个 eval 赋予一个描述性名称——不要仅使用 "eval-0"。目录名称也应使用此名称。如果本次 iteration 使用了新的或修改过的 eval prompts，请为每个新的 eval 目录创建这些文件——不要假设它们会从之前的 iteration 中沿用。

```json
{
  "eval_id": 0,
  "eval_name": "descriptive-name-here",
  "prompt": "The user's task prompt",
  "assertions": []
}
```

### 步骤 2：在运行进行期间，草拟断言

不要只是等待运行结束——你可以充分利用这段时间。为每个测试用例草拟定量的断言，并向用户解释。如果 `evals/evals.json` 中已存在断言，请审查它们并解释其检查内容。

良好的断言是客观可验证的，且具有描述性名称——它们在基准查看器中应清晰易读，以便浏览结果的人能立即理解每一项检查的内容。主观技能（写作风格、设计质量）更适合定性评估——不要对需要人工判断的内容强行添加断言。

断言草拟完成后，更新 `eval_metadata.json` 文件和 `evals/evals.json`。同时向用户解释他们将在查看器中看到的内容——包括定性输出和定量基准。

### 步骤 3：运行完成后，捕获计时数据

当每个 subagent 任务完成时，你会收到一条包含 `total_tokens` 和 `duration_ms` 的通知。请立即将此数据保存到运行目录下的 `timing.json` 文件中：

```json
{
  "total_tokens": 84852,
  "duration_ms": 23332,
  "total_duration_seconds": 23.3
}
```

这是捕获此数据的唯一机会——它通过 task notification 传递，且未在其他地方持久化。在每个 notification 到达时即时处理，而不是尝试批量处理。

### 步骤 4：评分、聚合并启动 viewer

一旦所有运行完成：

1. **为每次运行评分** —— 生成一个 grader subagent（或内联评分），读取 `agents/grader.md` 并根据 outputs 评估每个 assertion。将结果保存到每个运行目录下的 `grading.json` 中。grading.json 的 expectations 数组必须使用 `text`、`passed` 和 `evidence` 字段（而不是 `name`/`met`/`details` 或其他变体）—— viewer 依赖于这些确切的字段名称。对于可通过编程方式检查的 assertion，请编写并运行脚本，而不是人工查看 —— 脚本更快、更可靠，并且可以跨迭代复用。

2. **聚合到 benchmark** —— 从 skill-creator 目录运行聚合脚本：

```bash
python -m scripts.aggregate_benchmark <workspace>/iteration-N --skill-name <name>
```

此操作会生成 `benchmark.json` 和 `benchmark.md`，其中包含每个配置的 pass_rate、time 和 tokens，以及 mean ± stddev 和 delta。如果手动生成 benchmark.json，请参阅 `references/schemas.md` 以了解查看器所需的确切 schema。
将每个 with_skill 版本置于其 baseline 对应版本之前。

3. **进行分析师审查** —— 阅读 benchmark 数据，找出聚合统计数据可能掩盖的模式。请参阅 `agents/analyzer.md`（“Analyzing Benchmark Results”章节）了解具体的观察重点——例如无论 skill 如何都能通过的断言（不具区分度）、高方差评估（可能不稳定）以及 time/token 的权衡。

4. **启动查看器**，同时包含定性输出和定量数据：

```bash
nohup python <skill-creator-path>/eval-viewer/generate_review.py \
     <workspace>/iteration-N \
     --skill-name "my-skill" \
     --benchmark <workspace>/iteration-N/benchmark.json \
     > /dev/null 2>&1 &
   VIEWER_PID=$!
```

对于第 2 次及以后的迭代，还需传入 `--previous-workspace <workspace>/iteration-<N-1>`。

**协作 / 无头环境：** 如果 `webbrowser.open()` 不可用或环境没有显示设备，请使用 `--static <output_path>` 写入一个独立的 HTML 文件，而不是启动服务器。当用户点击 "Submit All Reviews" 时，反馈将作为 `feedback.json` 文件下载。下载后，将 `feedback.json` 复制到工作空间目录中，以便下一次迭代读取。

注意：请使用 `generate_review.py` 创建查看器；无需编写自定义 HTML。

5. **告诉用户** 类似这样的话：“我已经在浏览器中打开了结果。有两个标签页 —— 'Outputs' 允许您点击查看每个测试用例并留下反馈，'Benchmark' 显示定量比较。完成后，请回到这里告诉我。”

### 用户在查看器中看到的内容

"Outputs" 标签页一次显示一个测试用例：
- **Prompt**：给出的任务
- **Output**：Skill 生成的文件，尽可能内联渲染
- **Previous Output**（第 2 次及以后的迭代）：折叠区域，显示上一次迭代的输出
- **Formal Grades**（如果运行了评分）：折叠区域，显示断言通过/失败情况
- **Feedback**：一个随输入自动保存的文本框
- **Previous Feedback**（第 2 次及以后的迭代）：上次的评论，显示在文本框下方

"Benchmark" 标签页显示统计摘要：每个配置的通过率、耗时和 Token 用量，以及每次评估的细分和分析师观察。

导航通过 上一个/下一个 按钮或方向键完成。完成后，他们点击 "Submit All Reviews"，这会将所有反馈保存到 `feedback.json`。

### 步骤 5：读取反馈

当用户告诉你他们完成时，读取 `feedback.json`：

```json
{
  "reviews": [
    {"run_id": "eval-0-with_skill", "feedback": "the chart is missing axis labels", "timestamp": "..."},
    {"run_id": "eval-1-with_skill", "feedback": "", "timestamp": "..."},
    {"run_id": "eval-2-with_skill", "feedback": "perfect, love this", "timestamp": "..."}
  ],
  "status": "complete"
}
```

空反馈意味着用户认为没问题。重点改进用户提出具体不满的测试用例。

使用完毕后终止 viewer server：

```bash
kill $VIEWER_PID 2>/dev/null
```

---

## 改进 Skill

这是循环的核心环节。你已经运行了测试用例，用户也审查了结果，现在你需要根据他们的反馈来改进 skill。

### 如何思考改进

1. **从反馈中进行归纳。** 从宏观层面来看，我们要做的是创建能在无数不同 prompt 中被使用成千上万次（甚至更多）的 skill。在此过程中，你和用户仅针对少量示例反复迭代，因为这有助于加快进度。用户对这些示例了如指掌，能够快速评估新的输出。但是，如果你和用户共同开发的 skill 仅适用于这些示例，那它就毫无用处。与其进行繁琐且容易导致过拟合的修改，或者添加严苛死板的强制要求（MUST），不如在遇到顽固问题时尝试另辟蹊径，使用不同的隐喻，或者推荐不同的工作模式。尝试的成本相对较低，也许你会因此发现绝佳的方案。

2. **保持 prompt 精简。** 移除那些未能发挥作用的内容。务必阅读执行记录，而不仅仅是最终输出 —— 如果 skill 似乎导致模型在无成效的事情上浪费大量时间，你可以尝试删除 skill 中导致该行为的部分，并观察结果。

3. **解释原因。** 尽力解释你要求模型所做的每一项任务背后的**原因**。如今的 LLM *非常聪明*。它们拥有良好的心智理论，如果给予恰当的引导，它们能超越死板的指令，真正解决问题。即使反馈简短或带有挫败感，也要尝试真正理解任务本身，理解用户为何这样写以及他们实际写了什么，然后将这种理解融入到指令中。如果你发现自己正在用全大写书写 ALWAYS 或 NEVER，或者使用超级僵化的结构，这就是一个警示信号 —— 如果可能，请重新表述并解释理由，让模型理解你所要求之事的重要性。这是一种更人性化、更强大且更有效的方法。

4. **寻找跨测试用例的重复工作。** 阅读测试运行的执行记录，注意 subagent 是否都独立编写了类似的辅助脚本，或者对某事采取了相同的多步骤方法。如果所有 3 个测试用例中 subagent 都编写了 `create_docx.py` 或 `build_chart.py`，这就是一个强烈的信号，表明 skill 应该内置该脚本。编写一次，将其放入 `scripts/`，并指示 skill 使用它。这能让未来的每次调用免于重复造轮子。

这项任务非常重要（我们正致力于每年创造数十亿美元的经济价值！），你的思考时间并不是瓶颈；请花时间仔细斟酌。我建议先写一份修改草案，然后重新审视并加以改进。务必尽力站在用户的角度思考，理解他们的需求。

### 迭代循环

改进 skill 后：

1. 将改进应用到 skill 中
2. 将所有测试用例重新运行到一个新的 `iteration-<N+1>/` 目录中，包括基线运行。如果你正在创建新 skill，基线始终是 `without_skill`（无 skill）—— 这在迭代过程中保持不变。如果你正在改进现有 skill，请自行判断合理的基线：用户提供的原始版本，或是上一次迭代的结果。
3. 启动 reviewer，并使用 `--previous-workspace` 指向上一次迭代
4. 等待用户审查并告知你已完成
5. 阅读新的反馈，再次改进，重复此过程

持续进行直到：
- 用户表示满意
- 反馈全部为空（一切看起来都很好）
- 你没有取得实质性进展

---

## 进阶：盲测对比

如果你需要对 skill 的两个版本进行更严谨的比较（例如，用户询问“新版本真的更好吗？”），可以使用盲测对比系统。请阅读 `agents/comparator.md` 和 `agents/analyzer.md` 了解详情。基本思路是：将两个输出提供给一个独立的 agent，不告知其具体归属，让其评判质量。然后分析胜出者获胜的原因。

这是可选的，需要 subagent，大多数用户不需要。人工审查循环通常就足够了。

---

## 描述优化

SKILL.md frontmatter 中的 description 字段是决定 Claude 是否调用 skill 的主要机制。在创建或改进 skill 后，建议优化 description 以提高触发准确性。

### 步骤 1：生成触发评估查询

创建 20 个评估查询 —— 混合“应触发”和“不应触发”的情况。保存为 JSON：

```json
[
  {"query": "the user prompt", "should_trigger": true},
  {"query": "another prompt", "should_trigger": false}
]
```

查询内容必须真实，应是 Claude Code 或 Claude.ai 用户实际会输入的内容。不要抽象的请求，而应是具体、明确且包含丰富细节的请求。例如，文件路径、关于用户工作或情况的个人背景、列名和值、公司名称、URL。还要有一些背景故事。有些可能是小写的，或者包含缩写、拼写错误或口语化表达。混合使用不同的长度，并重点关注边缘情况，而不是让它们过于清晰明了（用户将有机会确认）。

错误示例：`"Format this data"`，`"Extract text from PDF"`，`"Create a chart"`

正确示例：`"ok so my boss just sent me this xlsx file (its in my downloads, called something like 'Q4 sales final FINAL v2.xlsx') and she wants me to add a column that shows the profit margin as a percentage. The revenue is in column C and costs are in column D i think"`

对于 **should-trigger** 查询（8-10条），请考虑覆盖范围。你需要针对同一意图的不同表述——有些正式，有些随意。包括用户未明确说出技能名称或文件类型但显然需要它的情况。加入一些不常见的用例，以及该技能与另一技能竞争但应胜出的情况。

对于 **should-not-trigger** 查询（8-10条），最有价值的是那些“擦边球”——即与技能共享关键词或概念但实际上需要不同东西的查询。考虑相邻领域、因简单的关键词匹配可能会触发但不应触发的歧义表述，以及查询涉及技能所做之事但在另一工具更合适的上下文中的情况。

需要避免的关键点：不要让 should-not-trigger 查询明显无关。例如，将 "Write a fibonacci function" 作为 PDF 技能的负面测试太容易了——它测试不出任何东西。负面案例应具有真正的迷惑性。

### Step 2: Review with user

使用 HTML 模板向用户展示评估集以供审查：

1. 从 `assets/eval_review.html` 读取模板
2. 替换占位符：
   - `__EVAL_DATA_PLACEHOLDER__` → 评估项的 JSON 数组（周围不要加引号——这是一个 JS 变量赋值）
   - `__SKILL_NAME_PLACEHOLDER__` → 技能名称
   - `__SKILL_DESCRIPTION_PLACEHOLDER__` → 技能的当前描述
3. 写入临时文件（例如 `/tmp/eval_review_<skill-name>.html`）并打开它：`open /tmp/eval_review_<skill-name>.html`
4. 用户可以编辑查询、切换 should-trigger 状态、添加/删除条目，然后点击 "Export Eval Set"
5. 文件将下载到 `~/Downloads/eval_set.json` —— 检查 Downloads 文件夹以获取最新版本，以防存在多个文件（例如 `eval_set (1).json`）

这一步很重要——糟糕的评估查询会导致糟糕的描述。

### Step 3: Run the optimization loop

告诉用户：“这需要一些时间——我会在后台运行优化循环并定期检查。”

将评估集保存到工作区，然后在后台运行：

```bash
python -m scripts.run_loop \
  --eval-set <path-to-trigger-eval.json> \
  --skill-path <path-to-skill> \
  --model <model-id-powering-this-session> \
  --max-iterations 5 \
  --verbose
```

使用你 system prompt 中的 model ID（即支持当前会话的那个），以便触发测试与用户的实际体验相匹配。

在运行期间，定期跟踪输出，向用户更新当前的迭代次数以及分数情况。

这会自动处理完整的优化循环。它将 eval set 拆分为 60% 的 train 和 40% 的 held-out test，评估当前的 description（运行每个 query 3 次以获得可靠的 trigger rate），然后根据失败的情况调用 Claude 提出改进建议。它会在 train 和 test 上重新评估每个新的 description，最多迭代 5 次。完成后，它会在浏览器中打开 HTML 报告，显示每次迭代的结果，并返回包含 `best_description` 的 JSON —— 该 description 是根据 test 分数而非 train 分数选择的，以避免 overfitting。

### Skill 触发机制

理解触发机制有助于设计更好的 eval queries。Skills 出现在 Claude 的 `available_skills` 列表中，带有其名称 + description，Claude 根据该 description 决定是否查阅 skill。需要知道的重要一点是，Claude 只会为它无法轻易独自处理的任务查阅 skills —— 像“阅读此 PDF”这样简单的一步 queries 可能不会触发 skill，即使 description 完美匹配，因为 Claude 可以使用基本工具直接处理它们。当 description 匹配时，复杂、多步骤或专门的 queries 能够可靠地触发 skills。

这意味着你的 eval queries 应该足够充实，让 Claude 确实能从查阅 skill 中受益。像“读取文件 X”这样的简单 queries 是糟糕的测试用例 —— 无论 description 质量如何，它们都不会触发 skills。

### 第 4 步：应用结果

从 JSON 输出中获取 `best_description`，并更新 skill 的 SKILL.md frontmatter。向用户展示修改前后的对比并报告分数。

---

### 打包并展示（仅当 `present_files` 工具可用时）

检查你是否有权使用 `present_files` 工具。如果没有，请跳过此步骤。如果有，请打包 skill 并向用户展示 .skill 文件：

```bash
python -m scripts.package_skill <path/to/skill-folder>
```

打包完成后，请引导用户找到生成的 `.skill` 文件路径，以便他们进行安装。

---

## Claude.ai 特定说明

在 Claude.ai 中，核心 workflow 相同（草稿 → 测试 → 审查 → 改进 → 重复），但由于 Claude.ai 没有 subagents，部分机制有所调整。以下是需要适配的内容：

**运行测试用例**：没有 subagents 意味着无法并行执行。对于每个测试用例，请阅读 skill 的 SKILL.md，然后按照其指示自行完成测试 prompt。请逐个执行。这不如独立的 subagents 严谨（因为是你编写的 skill，同时也在运行它，所以你拥有完整的上下文），但这是一种有用的健全性检查——而且人工审查步骤可以弥补这一不足。跳过基准运行——只需使用 skill 按要求完成任务即可。

**审查结果**：如果你无法打开浏览器（例如 Claude.ai 的 VM 没有显示器，或者你在远程服务器上），请完全跳过浏览器审查步骤。相反，直接在对话中展示结果。对于每个测试用例，展示 prompt 和输出。如果输出是用户需要查看的文件（如 .docx 或 .xlsx），请将其保存到文件系统并告知位置，以便用户下载和检查。请在对话中直接征求反馈：“看起来怎么样？有什么需要修改的地方吗？”

**基准测试**：跳过定量基准测试——因为它依赖于基准对比，而在没有 subagents 的情况下这没有意义。重点关注用户的定性反馈。

**迭代循环**：与之前相同——改进 skill，重新运行测试用例，征求反馈——只是中间没有浏览器审查步骤。如果你有文件系统，仍然可以将结果整理到迭代目录中。

**描述优化**：此部分需要 `claude` CLI 工具（具体为 `claude -p`），该工具仅在 Claude Code 中可用。如果你在 Claude.ai 上，请跳过此步骤。

**盲测对比**：需要 subagents。跳过。

**打包**：`package_skill.py` 脚本可在任何具备 Python 和文件系统的环境中运行。在 Claude.ai 上，你可以运行该脚本，用户可以下载生成的 `.skill` 文件。

**更新现有 skill**：用户可能是要求你更新现有的 skill，而不是创建新的。在这种情况下：
- **保留原始名称。** 注意 skill 的目录名和 `name` frontmatter 字段——原样使用它们。例如，如果安装的 skill 是 `research-helper`，输出 `research-helper.skill`（而不是 `research-helper-v2`）。
- **编辑前复制到可写位置。** 安装的 skill 路径可能是只读的。复制到 `/tmp/skill-name/`，在那里编辑，并从副本打包。
- **如果手动打包，先暂存在 `/tmp/`**，然后复制到输出目录——直接写入可能会因权限问题失败。

---

## Cowork 特定说明

如果你处于 Cowork 环境中，主要需要了解以下几点：

- 你拥有 subagents，因此主 workflow（并行生成测试用例、运行基准测试、评分等）均能正常运行。（但是，如果遇到严重的超时问题，可以串联运行测试 prompt 而非并行。）
- 你没有浏览器或显示器，因此在生成 eval viewer 时，请使用 `--static <output_path>` 写入独立的 HTML 文件，而不是启动服务器。然后提供一个链接，供用户点击在其浏览器中打开该 HTML 文件。
- 无论出于何种原因，Cowork 的设置似乎导致 Claude 在运行测试后倾向于不生成 eval viewer，因此再次重申：无论你是在 Cowork 还是 Claude Code 中，运行测试后，你都应该始终生成 eval viewer 供用户在修订 skill 和尝试纠正之前查看示例，使用 `generate_review.py`（而不是自己编写定制 HTML 代码）。提前致歉，但我要在这里用全大写强调：在你自己评估输入*之前*，先生成 EVAL VIEWER。你要让用户尽快看到它们！
- 反馈机制有所不同：由于没有运行服务器，查看器的 "Submit All Reviews" 按钮会将 `feedback.json` 作为文件下载。随后你可以读取该文件（可能需要先请求访问权限）。
- 打包功能正常——`package_skill.py` 只需要 Python 和文件系统即可运行。
- 描述优化（`run_loop.py` / `run_eval.py`）在 Cowork 中应该可以正常工作，因为它通过子进程使用 `claude -p`，而不是浏览器，但请务必在完全完成 skill 制作且用户认可其状态良好后再进行此操作。
- **更新现有 skill**：用户可能是要求你更新现有的 skill，而不是创建新的。请遵循上文 claude.ai 章节中的更新指引。

---

## 参考文件

`agents/` 目录包含专门 subagents 的说明。当你需要生成相关 subagent 时，请阅读这些文件。

- `agents/grader.md` — 如何根据输出评估断言
- `agents/comparator.md` — 如何在两个输出之间进行盲测 A/B 对比
- `agents/analyzer.md` — 如何分析一个版本为何优于另一个版本

`references/` 目录包含其他文档：
- `references/schemas.md` — evals.json、grading.json 等的 JSON 结构

---

为了强调，在此再次重复核心循环：

- 弄清楚 skill 的用途
- 起草或编辑 skill
- 在测试 prompt 上运行拥有 skill 访问权限的 claude
- 与用户一起评估输出：
  - 创建 benchmark.json 并运行 `eval-viewer/generate_review.py` 以帮助用户审查
  - 运行定量评估
- 重复此过程直到你和用户都满意
- 打包最终的 skill 并返还给用户。

如果你有 TodoList 之类的功能，请将这些步骤添加进去，以确保不会遗忘。如果你在 Cowork 中，请务必将 "Create evals JSON and run `eval-viewer/generate_review.py` so human can review test cases" 放入你的 TodoList，以确保执行。

祝好运！