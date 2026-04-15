# AutoR 中文使用教程

> 面向第一次使用 AutoR 的用户。
>
> 目标不是“把命令跑起来”而已，而是让你尽快掌握：如何安装、如何正确使用、如何在人类审批环节把结果从 toy 拉到真正可用，最后做出高质量的 PDF 研究产物。

## 1. 先用一句话理解 AutoR

AutoR 不是一个“把论文一键生成出来”的黑盒，也不是一个只会写几段研究文字的聊天 demo。

它更准确的定位是：

- 一个 **human-centered** 的 research harness
- 一个建立在底层 coding agent 之上的 **research loop**
- 一个把研究过程落盘为可检查、可恢复、可重做的 **run**

最重要的原则只有一句：

**AI 负责执行，人类负责方向。**

所以你在使用 AutoR 时，最关键的动作不是“回车启动”，而是：

- 在每个 stage 结束时认真审阅
- 当结果过于 toy、缺实验、缺证据、缺文件时明确要求重做
- 在真正达到可接受质量之前不要轻易 approve

如果你能把这条原则用好，AutoR 的上限会高很多。

---

## 2. AutoR 能做什么

AutoR 当前主线适合做这些事情：

- 从一个研究目标出发，按固定科研流程推进
- 在每个阶段调用底层执行器完成真实工作
- 把 prompt、日志、阶段总结、代码、数据、图、论文源文件、PDF 都落到 `runs/<run_id>/`
- 支持从已有 run 恢复
- 支持从某个特定 stage 重做
- 支持把更早的 stage 回滚，然后让后续阶段全部失效重跑
- 支持从已有项目仓库起步
- 支持从你过去的论文语料起步
- 支持按投稿 venue 组织 Stage 07 的写作输出
- 支持文献整理、citation verification、实验清单、artifact 索引、发布打包

底层执行器目前支持：

- `claude`
- `codex`

AutoR 负责的是更上层的 research loop，而不是重新发明一个新的代码 agent。

---

## 3. 安装前需要准备什么

建议环境：

| 项目 | 是否必需 | 说明 |
| --- | --- | --- |
| Python 3.10+ | 必需 | AutoR 主程序入口是 `python main.py` |
| Git | 必需 | 用于获取仓库 |
| Node.js 18+ | 强烈建议 | `Claude Code` 官方要求 Node 18+；`Codex CLI` 也通过 npm 安装 |
| Claude Code 或 Codex CLI | 必需 | 真正执行研究任务时需要其中之一 |
| TeX 环境 | 可选但推荐 | Stage 07 更容易稳定产出可编译 PDF |
| `PyMuPDF` | 可选 | 如果你要用 `--paper-corpus` 读取 PDF 内容，推荐安装 |
| `google-genai` / `Pillow` / `PyYAML` | 可选 | 只有在使用 `--research-diagram` 时才需要 |

平台建议：

- macOS / Linux 最省事
- Windows 建议使用 WSL

---

## 4. 第一步：先安装底层执行器

AutoR 本身不是“先装 AutoR 再装 agent”，而是反过来：

1. 先装 `Codex` 或 `Claude Code`
2. 再让它们来帮助你安装和使用 AutoR

### 4.1 安装 Codex

根据 OpenAI 官方文档，Codex CLI 当前可以直接通过 npm 安装：

```bash
npm install -g @openai/codex
```

如果你的 npm 全局安装权限有问题，优先修正 Node / npm 环境本身，不要靠粗暴的 `sudo` 硬装。

常见认证方式有两种：

方式 A：登录

```bash
codex --login
```

方式 B：使用 API Key

```bash
export OPENAI_API_KEY="你的 OpenAI API Key"
```

检查是否安装成功：

```bash
codex --version
```

如果你已经有 ChatGPT 订阅，也可以直接走官方的登录流程。

### 4.2 安装 Claude Code

根据 Anthropic 官方文档，Claude Code 当前的标准安装方式是：

```bash
npm install -g @anthropic-ai/claude-code
```

如果遇到权限问题，优先修正 npm 权限配置；不建议直接使用 `sudo npm install -g`。

安装后建议先检查环境：

```bash
claude doctor
```

然后启动一次，完成登录或认证：

```bash
claude
```

Claude Code 官方支持多种认证来源，例如：

- Claude App / Claude.ai 账号
- Anthropic Console
- Amazon Bedrock
- Google Vertex AI

### 4.3 官方文档

如果你在安装执行器时遇到问题，优先看官方文档：

- Codex CLI: <https://help.openai.com/en/articles/11096431>
- Codex 登录: <https://help.openai.com/en/articles/11381614>
- Claude Code 安装: <https://docs.anthropic.com/en/docs/claude-code/setup>

---

## 5. 第二步：让 Codex 或 Claude Code 帮你安装 AutoR

这是最推荐的上手方式。

你先进入一个你想存放 AutoR 的父目录，然后启动你熟悉的执行器：

```bash
codex
```

或者：

```bash
claude
```

随后直接把下面这段话发给它：

```text
请在当前目录安装 AutoR：
1. clone https://github.com/AutoX-AI-Labs/AutoR.git
2. 进入仓库，阅读 README 和 python main.py --help
3. 如有必要，创建 Python 虚拟环境
4. 安装当前仓库运行所需的最小依赖
5. 运行一次 smoke test：python main.py --fake-operator --goal "UI smoke test"
6. 最后告诉我正式运行的最小命令
不要修改主逻辑，不要做无关重构。
```

这样做的好处是：

- 你不用先理解整个仓库
- 它会自己检查当前环境是否缺工具
- 它能顺手帮你把最小运行链路打通

### 5.1 手动安装作为备选

如果你更喜欢手动操作，也可以直接：

```bash
git clone https://github.com/AutoX-AI-Labs/AutoR.git
cd AutoR
python main.py --help
```

当前主线的核心运行路径并不是“先 `pip install -r requirements.txt` 再运行”的模式，而是仓库 clone 下来后直接通过 `python main.py` 启动。

如果你要开启可选增强能力，再按需安装：

```bash
pip install pymupdf
pip install google-genai pillow pyyaml
```

其中：

- `pymupdf` 用于 `--paper-corpus` 的 PDF 文本提取
- `google-genai pillow pyyaml` 用于 `--research-diagram`

---

## 6. 第三步：先跑一个 smoke test

第一次不要直接跑正式研究，先确认你的本地链路是通的。

```bash
python main.py --fake-operator --goal "UI smoke test"
```

你应该能看到：

- 启动 banner
- stage 面板
- 结构化的终端输出
- 每个 stage 结束后的审批菜单
- `runs/<run_id>/` 下生成一整套运行目录

但是要注意：

**`--fake-operator` 只能用于烟测和演示，不能证明真实科研能力。**

它的作用只是：

- 看 CLI 能不能跑通
- 看目录结构和 UI 是否正常
- 看审批 loop 是否正常

不要把 smoke test 的结果当成真实研究结果。

---

## 7. 第四步：开始第一次正式 run

### 7.1 最小正式命令

如果你用 Claude：

```bash
python main.py \
  --operator claude \
  --model sonnet \
  --goal "Study whether retrieval-augmented chain-of-thought improves factual QA under a fixed token budget, and produce a submission-style PDF."
```

如果你用 Codex：

```bash
python main.py \
  --operator codex \
  --model default \
  --goal "Study whether retrieval-augmented chain-of-thought improves factual QA under a fixed token budget, and produce a submission-style PDF."
```

补充两条很有用的默认行为：

- 新建 run 时，如果你不写 `--operator`，默认使用 `claude`
- 新建 run 时，如果你不写 `--model`，Claude 默认是 `sonnet`，Codex 默认是 `default`
- 恢复旧 run 时，AutoR 默认会保留这个 run 原来的 backend、model 和 venue；只有你显式指定新值时才会覆盖

### 7.2 推荐同时指定投稿 venue

如果你已经知道目标风格，建议一开始就指定：

```bash
python main.py \
  --operator claude \
  --model sonnet \
  --venue neurips_2025 \
  --goal "..."
```

或者：

```bash
python main.py \
  --operator codex \
  --model default \
  --venue jmlr \
  --goal "..."
```

当前常见 venue profile 例如：

- `neurips_2025`
- `neurips_2026`
- `iclr_2026`
- `icml_2026`
- `cvpr_2026`
- `acl_2026`
- `aaai_2026`
- `ieee_journal`
- `ieee_conference`
- `nature`
- `nature_communications`
- `jmlr`

完整列表见 [../templates/registry.yaml](../templates/registry.yaml)。

注意：

- `--venue` 不指定时，默认是 `neurips_2025`
- AutoR 会按这个 venue profile 组织写作和打包
- 这不等于仓库内置了该 venue 的全部官方投稿规则

### 7.3 强烈建议带上资源一起跑

如果你手头已经有论文、Bib、数据、代码、笔记，不要空手开跑。

```bash
python main.py \
  --operator claude \
  --model sonnet \
  --venue neurips_2025 \
  --goal "Evaluate whether small MoE routing changes improve training stability without increasing parameter count." \
  --resources papers/key_paper_1.pdf papers/key_paper_2.pdf refs.bib data/baseline.csv notes/ideas.md
```

`--resources` 适合放：

- PDF 论文
- `.bib` / `.bibtex`
- 数据文件
- 代码目录
- 实验笔记
- 你已经整理过的相关材料

这是提升质量最快的方法之一。

---

## 8. AutoR 会怎么运行

典型流程是：

0. `00_intake`（可选）
1. `01_literature_survey`
2. `02_hypothesis_generation`
3. `03_study_design`
4. `04_implementation`
5. `05_experimentation`
6. `06_analysis`
7. `07_writing`
8. `08_dissemination`

每个 stage 的逻辑都一样：

1. AutoR 生成 prompt
2. 底层执行器开始做事
3. 结果实时显示在终端里
4. stage 结束后生成结构化 stage summary
5. 你决定是 refine 还是 approve

审批菜单固定有 6 个动作：

1. 使用建议 1 继续改
2. 使用建议 2 继续改
3. 使用建议 3 继续改
4. 输入你自己的反馈继续改
5. 批准并进入下一阶段
6. 中止

最常用的是：

- `4`：你自己写反馈
- `5`：当你确认这个 stage 真的足够好时再批准

同一个 stage 内继续 refine 时，AutoR 会尽量沿用同一个会话，而不是每次从零开始重跑。这一点很重要，因为它更适合增量修补。

---

## 9. 最重要的使用原则：第一轮结果通常会偏 toy

这是新手最容易犯错的地方。

很多人第一次用 AutoR，会看到模型已经：

- 写出了一份 stage summary
- 生成了一些文件
- 甚至已经有了 PDF

于是就误以为“可以过了”。

这通常是错的。

你必须默认这样去看：

**第一轮产物往往只是一个可继续推进的草稿，不是最终质量。**

特别是下面这些情况，基本都不该直接 approve：

- 只写了文字总结，没有真实数据文件
- 只做了 smoke test，没有做正式实验
- 只画了图，没有机器可读结果
- 只写了 PDF，但 claim 没有真实证据支撑
- 只引用了几篇常见论文，没有真正做 survey
- 只给出“计划怎么做”，没有真正把文件写出来

你应该把自己当成研究负责人，而不是旁观者。

AutoR 的强项不是“第一轮就完美”，而是：

- AI 先把执行工作大规模做掉
- 人在关键关口纠偏
- 通过 1~3 轮高质量反馈，把结果逼到真实可用

一句实用的话：

**不要审批“看起来像做过了”的 stage，只审批“已经对下一阶段有真实价值”的 stage。**

---

## 10. 每个 stage 应该怎么审

下面这张表非常重要。

如果你不知道某一阶段该不该打回去，就照这张表看。

| Stage | 至少应该看到什么 | 典型 toy 信号 | 你可以怎么反馈 |
| --- | --- | --- | --- |
| `00_intake` | 目标、约束、资源、评估方向被说清楚 | 只是把你的原话重复了一遍 | “把问题收窄成一个可验证的主问题，并明确成功标准、失败标准和已有资源。” |
| `01_literature_survey` | 关键相关工作、任务背景、数据集/benchmark、差异点、整理后的文献文件 | 只列了少量常识论文；没有真正比较方法 | “扩充 survey，不要只列标题。请整理任务设置、核心方法、评测方式、优缺点，并写入 literature 目录。” |
| `02_hypothesis_generation` | 明确、可检验、可实验的主假设和次级假设 | 只是 brainstorm 了很多想法，没有收敛成一个核心 claim | “不要再发散。锁定 1 个主 claim 和少量可测假设，并说明为什么值得做。” |
| `03_study_design` | 数据集、指标、baseline、ablation、实验矩阵、预算、失败判据 | 只有概念设计；没有可执行实验计划 | “当前设计仍然太 toy。请明确 baseline、指标、数据切分、消融项、统计方式和停止条件。” |
| `04_implementation` | 真实代码、配置、数据准备、 sanity check | 只有代码骨架、伪代码或空脚本 | “不要停留在 skeleton。请把最小可运行实验链路真正跑通，并把关键脚本、配置、日志写出来。” |
| `05_experimentation` | 机器可读结果文件、基线比较、重复运行、失败记录 | 只跑了样例；只在极小子集上试了一次 | “当前实验只是 smoke test。请补齐正式实验、基线对比、重复次数和结果文件，不要只给一张 demo 图。” |
| `06_analysis` | 真实图表、误差分析、失败案例、消融解释、机制性结论 | 只是在复述最好的数值 | “分析不要只做结果复述。请解释为什么有效、在哪些设置失效、哪些因素最关键，并补齐图和表。” |
| `07_writing` | LaTeX、Bib、可编译 PDF、citation verification、结构完整的稿件 | 只有 markdown；或有 PDF 但内容空、证据弱、引用虚 | “不要只写出 paper shape。请保证每个核心 claim 都有实验或文献支撑，并完成 citation verification。” |
| `08_dissemination` | review 材料、release/package、摘要性对外交付物 | 只停在论文，不管发布和检查 | “请补齐 release/review 材料，让这个 run 可以被别人检查、复现、展示。” |

一个非常实用的经验是：

**最终 PDF 的质量，大部分不是在 Stage 07 决定的，而是在 Stage 03~06 决定的。**

前面几个阶段如果放水，最后只会得到一个排版正常但内容空的 PDF。

---

## 11. 审批菜单到底该怎么用

### 11.1 什么时候用 `1/2/3`

当 AutoR 自己给出的 refinement suggestion 已经很接近你的判断时，用 `1/2/3` 很省事。

适合场景：

- 它已经识别出缺 baseline
- 它已经识别出缺图
- 它已经识别出 survey 太薄

### 11.2 什么时候用 `4`

这是最有价值的按钮。

当你发现问题比较具体，或者你想强制改变方向时，优先用 `4`。

例如：

- “当前实验只验证了能跑通，没有正式对比。请补齐 baseline A/B/C，并输出 machine-readable results。”
- “不要再扩展题目。把范围收窄到单一主 claim，并围绕这个 claim 设计完整实验。”
- “当前 PDF 虽然编译成功，但结果支撑不足。先回到实验和分析，补齐证据再写。”

### 11.3 什么时候用 `5`

只有在这个 stage 同时满足下面三点时，才建议 approve：

- 方向是对的
- 关键缺口已经补齐
- 对下一阶段已经有真实价值

不是“看起来差不多了”，而是“已经足够让下一阶段建立在坚实基础上”。

### 11.4 什么时候用 `6`

当你发现：

- 目标本身错了
- 环境明显不对
- 你不想继续这个 run

就直接中止，不要勉强推进。

---

## 12. 常用命令速查

| 场景 | 命令 |
| --- | --- |
| 新建一个 run | `python main.py --goal "你的研究目标"` |
| 指定 Claude 作为执行层 | `python main.py --operator claude --model sonnet --goal "..."` |
| 指定 Codex 作为执行层 | `python main.py --operator codex --model default --goal "..."` |
| 指定投稿 venue | `python main.py --venue neurips_2025 --goal "..."` |
| 同时带资源启动 | `python main.py --goal "..." --resources paper.pdf refs.bib data.csv notes.md` |
| 跳过 intake | `python main.py --skip-intake --goal "..."` |
| 跑烟测 | `python main.py --fake-operator --goal "Smoke test"` |
| 恢复最近一次 run | `python main.py --resume-run latest` |
| 恢复指定 run | `python main.py --resume-run 20260415_120000` |
| 从某个 stage 重做 | `python main.py --resume-run latest --redo-stage 05` |
| 从某个 stage 回滚 | `python main.py --resume-run latest --rollback-stage 03` |
| 扫描已有项目并推荐切入 stage | `python main.py --goal "..." --project-root /path/to/project` |
| 从你的过往论文语料构建研究者画像 | `python main.py --goal "..." --paper-corpus /path/to/papers` |
| 生成研究方法图并插入论文 | `python main.py --goal "..." --research-diagram` |
| 调大单个 stage 超时上限 | `python main.py --goal "..." --stage-timeout 28800` |

### 12.1 `--redo-stage` 和 `--rollback-stage` 的区别

`--redo-stage`：

- 从指定 stage 重新开始做
- 更适合“这个阶段做得不好，但前面阶段没有根本性错误”

例如：

```bash
python main.py --resume-run latest --redo-stage 05
```

意思是：

- 前面阶段保留
- 从 Stage 05 重新实验

`--rollback-stage`：

- 把指定 stage 以及其后的阶段都标记为需要重做
- 更适合“更早的假设、设计或方向变了”

例如：

```bash
python main.py --resume-run latest --rollback-stage 03
```

意思是：

- Stage 03 以及后面的内容都应该视为失效
- 从 Stage 03 重新往后推进

如果你修改了研究问题、主假设、baseline 设计、数据设置，通常应该用 rollback，而不是简单 redo。

---

## 13. 这些技巧最能拉高最终质量

### 技巧 1：目标一定要窄

差的目标：

```text
研究一下多智能体
```

好的目标：

```text
研究在固定参数预算下，增加专家数是否能提升 MoE-LoRA 的泛化能力，并产出一份可投稿风格的 PDF。
```

你的目标最好至少包含：

- 研究问题
- 任务或场景
- 约束条件
- 你想要的最终产物

### 技巧 2：尽量带资源开跑

以下资源越早给，质量越高：

- 关键论文 PDF
- 现成的 `.bib`
- baseline 结果表
- 数据样本
- 你自己的想法笔记
- 已有代码仓库

空白开局不是不行，但更容易让第一轮偏 toy。

### 技巧 3：第一轮不要心软

如果第一轮产物出现下面任何一个问题，就不要 approve：

- 没有真实实验
- 没有真实数据文件
- 没有 figure
- 没有 PDF
- PDF 只是形式完成，没有证据支撑
- 只是“计划下一步做什么”

你放水一次，后面往往要多补三次。

### 技巧 4：反馈要具体，不要说“再完善一下”

差的反馈：

```text
写得更好一点
```

好的反馈：

```text
当前实验仍然过于 toy。请至少补齐两个强 baseline、一组关键 ablation、机器可读结果文件，以及对失败案例的记录。不要只给 summary。
```

### 技巧 5：Stage 03、04、05 是质量核心

如果这三步没有守住，Stage 07 再漂亮也只是空壳。

你在这三步要特别强硬地检查：

- 实验设计是否可执行
- 代码是否真的跑起来
- 结果是否真的落盘

### 技巧 6：尽早确定 `--venue`

如果你知道最后想走会议稿还是期刊稿，建议开局就指定。

这样 Stage 07 不会临时换写作风格，结构更稳。

### 技巧 6.5：新手一般不要急着 `--skip-intake`

如果你的题目还不够清楚，或者资源还没整理好，建议保留 intake。

`--skip-intake` 更适合下面这种情况：

- 目标已经非常明确
- 你已经准备好了资源
- 你很清楚自己希望从正式研究阶段直接开始

### 技巧 7：用 `--redo-stage` 做局部返工

如果只是某一阶段质量不好，不需要重开整个 run。

例如写作太弱，但前面实验没问题：

```bash
python main.py --resume-run latest --redo-stage 07
```

### 技巧 8：用 `--rollback-stage` 处理“方向变了”

如果你改了主假设、实验设计、数据设置，不要偷懒。

直接回滚到真正受影响的 stage，后面全部重做。

### 技巧 9：已有项目别从零开始

如果你已经有一个项目仓库：

```bash
python main.py \
  --goal "Turn this project into a stronger research package." \
  --project-root /path/to/your/project
```

AutoR 会扫描已有项目状态，并推荐一个更合理的切入 stage。

### 技巧 10：已有论文积累也别浪费

如果你之前已经写过不少相关论文：

```bash
python main.py \
  --goal "Build a new paper in the style and topic continuity of my prior work." \
  --paper-corpus /path/to/your/papers
```

推荐先装：

```bash
pip install pymupdf
```

这样 PDF 文本提取会更完整。

### 技巧 11：长实验记得调超时

默认单个 stage 的超时是 4 小时。

如果你知道 Stage 05 很重，可以提前调大：

```bash
python main.py --goal "..." --stage-timeout 28800
```

### 技巧 12：`--research-diagram` 是增强项，不是必需项

如果你想在 Stage 07 后自动生成一个方法图并插入论文，可以开启：

```bash
python main.py --goal "..." --research-diagram
```

推荐先装：

```bash
pip install google-genai pillow pyyaml
```

然后设置：

- `GOOGLE_API_KEY`
- 或 `GEMINI_API_KEY`
- 或 `configs/diagram_config.yaml`

这会锦上添花，但不是研究质量本身的来源。

---

## 14. 可直接复制的高质量反馈模板

下面这些话你可以直接在审批菜单选 `4` 时粘贴进去。

### 14.1 觉得 survey 太薄

```text
当前文献综述仍然太薄，不要只列常见工作。请扩充到真正能支撑选题判断的程度，明确任务设置、关键 baseline、主要差异点、常见评测方式和现有缺口，并把整理结果写入 literature 目录。
```

### 14.2 觉得假设不够聚焦

```text
不要继续发散多个想法。请收敛到一个最值得验证的主 claim，并把其他想法降级为备选或消融。这个 stage 的目标是形成一个可实验、可否证、可写成论文主线的假设。
```

### 14.3 觉得实验设计太 toy

```text
当前 study design 仍然过于 toy。请明确数据集、指标、baseline、ablation、训练预算、随机种子、失败判据和结果记录格式。不要只写概念计划，要形成可直接执行的实验矩阵。
```

### 14.4 觉得实现只是骨架

```text
当前实现还停留在代码骨架层面。请把最小可运行链路真正跑通，包括数据准备、核心脚本、配置文件和 sanity check，并把关键脚本路径和运行方式写清楚。
```

### 14.5 觉得实验只是 smoke test

```text
当前实验结果不足以支撑论文主张，看起来更像 smoke test。请补齐正式实验、基线对比、关键 ablation、重复运行和机器可读结果文件，不要只给文字总结或单张图。
```

### 14.6 觉得分析只是在复述结果

```text
当前分析仍然停留在复述数值层面。请增加误差分析、失败案例、机制解释和关键图表，说明为什么方法有效、在哪些条件下失效，以及这些结论如何影响论文主线。
```

### 14.7 觉得 PDF 只是“像论文”

```text
当前 PDF 虽然已经成形，但证据仍然不足。请确保每个核心 claim 都能追溯到真实实验、图表或文献依据，并完成 citation verification。不要只做 paper-shaped output。
```

---

## 15. 想最快做出高质量 PDF，推荐这样做

如果你的目标很明确：**尽快做出一份最强版本的 PDF**，推荐使用下面这条路线。

### 第一步：把目标收窄到一个清楚的问题

不要从大而空的题目开始。

### 第二步：一开始就给资源

至少给：

- 3~10 篇关键 PDF
- 一份 `.bib`（如果有）
- 任何已有 baseline 结果
- 你的实验想法笔记

### 第三步：开局就指定 venue

例如：

```bash
python main.py \
  --operator claude \
  --model sonnet \
  --venue neurips_2025 \
  --goal "..."
```

### 第四步：在 Stage 03~06 非常严格

这是最关键的部分。

你需要不断确认：

- 不是只有文本
- 不是只有想法
- 不是只有 demo
- 而是真的有代码、数据、结果、图

### 第五步：Stage 07 只接受“可验证的稿件”

不要被“已经有 PDF”这件事骗过去。

好的 Stage 07 至少应当同时具备：

- LaTeX 源文件
- Bib
- 编译成功的 PDF
- citation verification 输出
- 关键 claim 对应的实验和图表

### 第六步：如果前面某一步不对，果断 redo 或 rollback

不要试图在 Stage 07 把前面所有问题补回来，那通常补不回来。

### 第七步：用 Stage 08 补齐对外交付

这样你最终拿到的不是一份孤立 PDF，而是一套更完整的研究产物。

---

## 16. 结果都在哪里看

每次运行都会生成：

```text
runs/<run_id>/
```

其中最常用的路径是：

| 路径 | 作用 |
| --- | --- |
| `runs/<run_id>/user_input.txt` | 你的原始研究目标 |
| `runs/<run_id>/memory.md` | 已批准阶段的跨阶段记忆 |
| `runs/<run_id>/stages/` | 每个 stage 的正式总结 |
| `runs/<run_id>/logs.txt` | 文本日志 |
| `runs/<run_id>/logs_raw.jsonl` | 原始流式事件日志 |
| `runs/<run_id>/workspace/literature/` | 文献整理结果 |
| `runs/<run_id>/workspace/code/` | 代码 |
| `runs/<run_id>/workspace/data/` | 数据 |
| `runs/<run_id>/workspace/results/` | 机器可读结果 |
| `runs/<run_id>/workspace/figures/` | 图 |
| `runs/<run_id>/workspace/writing/` | 论文源文件 |
| `runs/<run_id>/workspace/artifacts/` | PDF 和打包产物 |
| `runs/<run_id>/workspace/reviews/` | review / release 材料 |

如果你想找最终 PDF，优先看：

- `workspace/artifacts/`
- `workspace/writing/`

---

## 17. 常见问题

### 17.1 可以只用中文目标吗？

可以。

你完全可以直接写中文目标和中文反馈。只要目标清楚，AutoR 一样能工作。

### 17.2 新手一定要看源码吗？

不需要。

你完全可以只按本教程操作，把 AutoR 当成一个终端研究系统来用。

### 17.3 为什么第一轮结果常常不够强？

因为真实研究任务本来就不适合靠单轮生成完成。

AutoR 的设计本来就假设：

- 第一轮先形成基础版本
- 人类在审批点施加强监督
- 通过少量高质量反馈把结果逼到真实可用

### 17.4 看到 PDF 就代表任务完成了吗？

不代表。

PDF 只是结果的一部分。

如果没有真实实验、真实图表、真实结果文件、真实引用支撑，PDF 可能只是“像论文”。

### 17.5 我应该更常用 redo 还是 rollback？

经验上：

- 局部质量不够，用 `redo`
- 更早方向变了，用 `rollback`

### 17.6 我能中途换底层执行器吗？

可以。

AutoR 当前支持 `claude` 和 `codex`。恢复 run 时默认会保留之前的 backend，但你也可以显式指定新的 backend。

实务上，如果你要换 backend，最好同时明确从哪个 stage 继续，最稳妥的做法通常是配合 `--redo-stage` 使用。

### 17.7 我想快速掌握整个项目，还需要看什么？

建议按这个顺序：

1. 先看 [../README.md](../README.md)
2. 再跑一次 smoke test
3. 再开一个带 `--resources` 的真实 run
4. 最后再去看 `runs/<run_id>/` 里的真实产物结构

---

## 18. 最后的建议

如果你只记住一件事，请记住这句：

**AutoR 不是替你做决定的，它是替你做执行。**

真正能把最终结果质量拉高的人，仍然是你。

你最该做的不是“让它自己跑完”，而是：

- 把问题定义清楚
- 在关键 stage 不放水
- 用具体反馈逼它补齐证据、实验和写作
- 在需要时果断 redo 或 rollback

这样你才能真正把 AutoR 用成一个高杠杆的科研系统，而不是一个看起来很忙的论文生成器。
