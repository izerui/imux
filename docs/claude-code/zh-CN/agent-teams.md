> ## Documentation Index
> Fetch the complete documentation index at: https://code.claude.com/docs/llms.txt
> Use this file to discover all available pages before exploring further.

# 协调 Claude Code 会话团队

> 协调多个 Claude Code 实例作为一个团队一起工作，具有共享任务、代理间消息传递和集中管理。

<Warning>
  Agent teams 是实验性功能，默认禁用。通过在你的 [settings.json](/docs/zh-CN/settings) 或环境中设置 `CLAUDE_CODE_EXPERIMENTAL_AGENT_TEAMS=1` 来启用它们。如果没有该变量，会话启动时不会设置任何团队，不会写入团队目录，Claude 也不会生成或提议队友。Agent teams 在 [已知限制](#limitations) 中存在关于会话恢复、任务协调和关闭行为的问题。
</Warning>

Agent teams 让你协调多个 Claude Code 实例一起工作。一个会话充当团队负责人，协调工作、分配任务和综合结果。队友独立工作，每个都在自己的 context window 中，并直接相互通信。你也可以直接与任何队友互动，无需通过负责人。

在设置团队之前，请检查是否有更轻量级的选项可以完成工作。[Subagents](/docs/zh-CN/sub-agents) 在单个会话中工作，通过 [跨会话消息传递](/docs/zh-CN/cross-session-messaging)，Claude 可以在你自己运行的会话之间传递发现。

<h2 id="when-to-use-agent-teams">
  何时使用 agent teams
</h2>

Agent teams 最适合用于并行探索能增加真实价值的任务。有关完整场景，请参阅 [用例示例](#use-case-examples)。最强的用例是：

* **研究和审查**：多个队友可以同时调查问题的不同方面，然后分享和质疑彼此的发现
* **新模块或功能**：队友可以各自拥有一个独立的部分，不会相互干扰
* **使用竞争假设进行调试**：队友并行测试不同的理论，更快地收敛到答案
* **跨层协调**：跨越前端、后端和测试的更改，每个由不同的队友负责

Agent teams 增加了协调开销，使用的令牌数量明显多于单个会话。当队友可以独立运作时，它们效果最好。对于顺序任务、同一文件编辑或有许多依赖关系的工作，单个会话或 [subagents](/docs/zh-CN/sub-agents) 更有效。

<h3 id="compare-with-subagents">
  与 subagents 比较
</h3>

Agent teams 和 [subagents](/docs/zh-CN/sub-agents) 都让你并行化工作，但它们的运作方式不同。对于不带团队的独立会话，这些会话相互传递消息，请参阅 [跨会话消息传递](/docs/zh-CN/cross-session-messaging)。

<Frame caption="Subagents 向主代理报告结果。在 agent teams 中，队友共享任务列表、认领工作并直接相互通信。">
  <img src="https://mintcdn.com/claude-code/nsvRFSDNfpSU5nT7/images/subagents-vs-agent-teams-light.png?fit=max&auto=format&n=nsvRFSDNfpSU5nT7&q=85&s=2f8db9b4f3705dd3ab931fbe2d96e42a" className="dark:hidden" alt="比较 subagent 和 agent team 架构的图表。Subagents 由主代理生成、执行工作并报告结果。Agent teams 通过共享任务列表进行协调，队友彼此直接通信。" width="4245" height="1615" data-path="images/subagents-vs-agent-teams-light.png" />

  <img src="https://mintcdn.com/claude-code/nsvRFSDNfpSU5nT7/images/subagents-vs-agent-teams-dark.png?fit=max&auto=format&n=nsvRFSDNfpSU5nT7&q=85&s=d573a037540f2ada6a9ae7d8285b46fd" className="hidden dark:block" alt="比较 subagent 和 agent team 架构的图表。Subagents 由主代理生成、执行工作并报告结果。Agent teams 通过共享任务列表进行协调，队友彼此直接通信。" width="4245" height="1615" data-path="images/subagents-vs-agent-teams-dark.png" />
</Frame>

| | Subagents | Agent teams |
| :- | :- | :- |
| **Context** | 自己的 context window；结果返回给调用者 | 自己的 context window；完全独立 |
| **通信** | 向调用者返回结果。Claude 在生成 subagents 时命名的 Subagents 也可以 [相互发送消息](/docs/zh-CN/sub-agents#what-loads-at-startup) | 队友直接相互发送消息 |
| **协调** | 主代理管理所有工作 | 通过消息进行自我协调，加上具有 [Task tools 的代理](/docs/zh-CN/tools-reference#task-tool-availability) 的共享任务列表 |
| **最适合** | 只有结果重要的专注任务 | 需要讨论和协作的复杂工作 |
| **令牌成本** | 较低：结果汇总回主 context | 较高：每个队友是一个独立的 Claude 实例 |

当你需要快速、专注的工作人员报告结果时，使用 subagents。当队友需要分享发现、相互质疑和自我协调时，使用 agent teams。

<h2 id="enable-agent-teams">
  启用 agent teams
</h2>

Agent teams 默认禁用。通过将 `CLAUDE_CODE_EXPERIMENTAL_AGENT_TEAMS` 环境变量设置为 `1`，在你的 shell 环境中或通过 [settings.json](/docs/zh-CN/settings) 来启用它：

```json settings.json theme={null}
{
  "env": {
    "CLAUDE_CODE_EXPERIMENTAL_AGENT_TEAMS": "1"
  }
}
```

启用 agent teams 也会改变普通的委派方式。Claude 可能会[自行命名一个子代理](/docs/zh-CN/sub-agents#subagent-names)，当启用 agent teams 时，Claude 命名的子代理会作为队友启动，因此即使你没有要求，团队也可以形成。有关更多信息，请参阅[Claude 如何启动 agent teams](#how-claude-starts-agent-teams)；要关闭此行为，请参阅[Claude 生成队友而不是子代理](#claude-spawns-teammates-instead-of-subagents)。

生成队友也需要交互式会话。在[非交互模式](/docs/zh-CN/headless)中使用 `-p` 标志，包括 Agent SDK 会话，Claude 不会生成队友，即使启用了 agent teams，Claude 命名的子代理也会作为普通[子代理](/docs/zh-CN/sub-agents)运行。

<h2 id="start-your-first-agent-team">
  启动你的第一个 agent team
</h2>

启用 agent teams 后，用自然语言描述你想要的任务和队友。Claude 会生成他们并根据你的提示协调工作。

这个例子效果很好，因为三个角色是独立的，可以在不相互等待的情况下探索问题：

```text wrap theme={null}
I'm designing a CLI tool that helps developers track TODO comments across
their codebase. Spawn three teammates to explore this from different angles:
one on UX, one on technical architecture, one playing devil's advocate.
```

从那里，Claude 会填充一个 [共享任务列表](/docs/zh-CN/interactive-mode#task-list)，在 [具有 Task 工具的会话](/docs/zh-CN/tools-reference#task-tool-availability) 中为每个角度生成队友，让他们探索问题，并在完成时综合发现。

Claude 有时可能会使用 [subagents](/docs/zh-CN/sub-agents) 而不是创建一个 team。Subagents 在 agent 面板中与队友显示在同一位置，因此仅凭面板无法确认是否形成了 team。如果 Claude 生成了 subagents，请再次询问并明确请求一个 agent team。

负责人的终端在提示输入下方的 agent 面板中列出队友。从该面板中：

* **向上和向下箭头**：选择一个队友
* **Enter**：打开所选队友的记录并直接向其发送消息
* **Escape**：清除选择。当你正在查看队友的记录时，Escape 会中断该队友的当前轮次

从 v2.1.199 开始，当任何队友或子 agent 仍在工作时，空闲队友的行会保留在面板中，因此你可以选择它来查看其记录或向其分配更多工作。一旦面板中的每个 agent 都处于空闲状态，空闲行会在 30 秒后隐藏，并在队友的下一轮时重新出现；队友在隐藏时仍然保持运行并可寻址。在 v2.1.181 到 v2.1.198 中，空闲行在其自己的轮次结束后 30 秒隐藏，即使其他队友仍在工作；v2.1.181 之前的版本不隐藏空闲行。

当超过三个队友同时处于空闲状态时，前三个之外的行会折叠成一行，计数折叠的队友，例如当五个处于空闲状态时显示 `2 idle agents`。选择它并按 Enter 展开折叠的行，或按 Esc 再次折叠它们。工作中的队友、失败的队友和你正在查看的队友始终保持自己的行。

如果你想让每个队友在自己的分割窗格中，请参阅 [选择显示模式](#choose-a-display-mode)。

<h2 id="control-your-agent-team">
  控制你的 agent team
</h2>

用自然语言告诉负责人你想要什么。它根据你的指示处理团队协调、任务分配和委派。

<h3 id="choose-a-display-mode">
  选择显示模式
</h3>

Agent teams 支持两种显示模式：

* **In-process**：所有队友在你的主终端内运行。在 agent 面板中使用上下箭头键选择队友，然后按 Enter 查看它并输入以直接向它发送消息。在任何终端中工作，无需额外设置。
* **Split panes**：每个队友获得自己的窗格。你可以同时看到每个人的输出，并点击窗格直接交互。需要 tmux 或 iTerm2。

<Note>
  `tmux` 在某些操作系统上有已知限制，传统上在 macOS 上效果最好。在 iTerm2 中使用 `tmux -CC` 是进入 `tmux` 的建议入口点。
</Note>

默认值是 `"in-process"`。设置 `"auto"` 以在你已经在 tmux 会话中运行，或你的终端是安装了 `it2` CLI 的 iTerm2 时启用分割窗格，否则回退到 in-process。`"tmux"` 设置启用分割窗格模式，并根据你的终端自动检测是使用 tmux 还是 iTerm2。

设置 `"iterm2"` 以显式使用 iTerm2 原生分割窗格。此模式需要 [`it2` CLI](https://github.com/mkusaka/it2)，如果 `it2` 缺失，会显示带有安装命令的错误。当你的终端是 iTerm2 且 tmux 可用作备选方案时，在 `"auto"` 或 `"tmux"` 下会出现提供安装 `it2` 或切换到 tmux 的设置提示。

要覆盖默认值，在 `~/.claude/settings.json` 中设置 [`teammateMode`](/docs/zh-CN/settings-reference#teammatemode)：

```json theme={null}
{
  "teammateMode": "auto"
}
```

要为单个会话设置模式，将其作为标志传递：

```bash theme={null}
claude --teammate-mode auto
```

`--teammate-mode` 标志是实验性的，不会出现在 `claude --help` 中。

分割窗格模式需要 [tmux](https://github.com/tmux/tmux/wiki) 或 iTerm2 与 [`it2` CLI](https://github.com/mkusaka/it2)。手动安装：

* **tmux**：通过你的系统包管理器安装。有关特定于平台的说明，请参阅 [tmux wiki](https://github.com/tmux/tmux/wiki/Installing)。
* **iTerm2**：安装 [`it2` CLI](https://github.com/mkusaka/it2)，然后在 **iTerm2 → Settings → General → Magic → Enable Python API** 中启用 Python API。

<h3 id="specify-teammates-and-models">
  指定队友和模型
</h3>

Claude 根据你的任务决定要生成的队友数量，或者你可以指定你想要的确切内容：

```text wrap theme={null}
Spawn 4 teammates to refactor these modules in parallel. Use Sonnet for
each teammate.
```

Claude Code 从以下第一个适用的来源为每个队友选择模型：

1. 你的生成提示为该队友命名的模型。
2. 对于从[子 agent 定义](#use-subagent-definitions-for-teammates)生成的队友，定义的 `model`，其中 `inherit` 选择负责人的模型。
3. [`CLAUDE_CODE_SUBAGENT_MODEL`](/docs/zh-CN/model-config#environment-variables)，当它设置为除 `inherit` 之外的任何值时。
4. 负责人的当前模型。

如果你设置 [`CLAUDE_CODE_SUBAGENT_MODEL_FORCE=1`](/docs/zh-CN/sub-agents#run-every-subagent-on-one-model)，前两个来源不适用。当 Claude Code 设置为除 `inherit` 之外的任何值时，Claude Code 从 `CLAUDE_CODE_SUBAGENT_MODEL` 为每个队友选择模型，否则从负责人的当前模型选择。需要 Claude Code v2.1.257 或更高版本。

在 v2.1.251 之前，`CLAUDE_CODE_SUBAGENT_MODEL` 在此顺序中排在第一位。

<Note>
  `teammateDefaultModel` 在 v2.1.234 中被移除；Claude Code 忽略任何剩余值。在你的提示中命名模型。
</Note>

Claude Code 检查为队友选择的模型是否符合你的组织的 [`availableModels`](/docs/zh-CN/model-config#restrict-model-selection) 允许列表。当允许列表阻止一个值时，Claude Code 替换另一个模型：

* **系列别名如 `opus`**：在 Anthropic API 和 AWS 上的 Claude Platform 上，Claude Code 在允许列表允许的该系列的最新版本上运行队友。在具有特定于提供商的模型 ID 的提供商上，其中[替换不起作用](/docs/zh-CN/model-config#restrict-model-selection)，被阻止的别名会根据下一个项目符号回退，如同任何其他被阻止的值一样
* **任何其他被阻止的值，包括在替换不起作用的提供商上的系列别名，或其系列没有允许版本的别名**：Claude Code 在负责人的模型上运行队友。如果你设置 `CLAUDE_CODE_SUBAGENT_MODEL`，Claude Code 首先尝试该模型，遵循相同的规则

队友继承负责人的[工作量级别](/docs/zh-CN/model-config#adjust-effort-level)。在分割窗格模式中，这从 v2.1.186 开始适用；较早的版本没有将负责人的会话工作量传递给分割窗格队友。

<h3 id="have-teammates-plan-before-implementing">
  让队友在实施前进行规划
</h3>

对于复杂或有风险的任务，你可以让队友在实施前进行规划。当负责人处于 [plan mode](/docs/zh-CN/permission-modes#analyze-before-you-edit-with-plan-mode) 时，Claude 生成的队友在只读计划模式下工作，直到其计划准备好。首先将负责人切换到计划模式，然后要求队友：

```text wrap theme={null}
Spawn an architect teammate to refactor the authentication module.
```

当队友完成规划时，它向负责人发送计划批准请求。Claude Code 在请求到达时立即在负责人的会话中批准计划，无需负责人审查。队友的编辑和命令仍然会通过[权限](#permissions)中描述的权限提示。一旦批准，队友退出计划模式并开始实施。

<h3 id="talk-to-teammates-directly">
  直接与队友交谈
</h3>

每个队友都是一个完整的、独立的 Claude Code 会话。你可以直接向任何队友发送消息，以提供额外的指示、提出后续问题或改变他们的方法。

* **In-process 模式**：在 agent 面板中使用上下箭头键选择队友，然后按 Enter 查看其会话并输入以向其发送消息。在选定的队友上按 `x` 以停止它。按 Ctrl+T 切换任务列表。
* **Split-pane 模式**：点击队友的窗格以直接与他们的会话交互。每个队友都有自己终端的完整视图。

当你查看 in-process 队友时，纯文本和 [skills](/docs/zh-CN/skills) 会发送给该队友，但内置命令仍在负责人的会话中运行。

队友的模型和快速模式在它生成时是固定的，所以 `/model` 和 `/fast` 只改变负责人的设置。从 v2.1.199 开始，在查看队友时输入任一命令会显示一个通知，表示更改适用于负责人；较早的版本会将其应用于负责人而没有任何指示。`/effort` 仍然适用于所查看队友的后续轮次，因为队友遵循负责人的[工作量级别](/docs/zh-CN/model-config#adjust-effort-level)。

<h3 id="assign-and-claim-tasks">
  分配和认领任务
</h3>

共享任务列表协调整个团队的工作。负责人创建任务，队友完成它们。任务有三种状态：待处理、进行中和已完成。任务也可以依赖其他任务：具有未解决依赖关系的待处理任务在这些依赖关系完成之前无法被认领。

[没有 Task 工具](/docs/zh-CN/tools-reference#task-tool-availability)的 Agents 通过消息而不是共享任务列表进行协调。

负责人可以显式分配任务，或队友可以自我认领：

* **负责人分配**：告诉负责人将哪个任务分配给哪个队友
* **自我认领**：完成任务后，队友自己选择下一个未分配、未阻止的任务

任务认领使用文件锁定来防止多个队友同时尝试认领同一任务时的竞态条件。

<h3 id="shut-down-teammates">
  关闭队友
</h3>

要优雅地结束队友的会话，按名称引用它。例如，对于一个名为 researcher 的队友：

```text wrap theme={null}
Ask the researcher teammate to shut down
```

负责人发送关闭请求。队友可以批准，优雅地退出，或拒绝并提供解释。

团队的共享目录在会话结束时自动清理，因此没有单独的清理步骤。请参阅[架构](#architecture)了解哪些目录被删除以及哪些目录为恢复的会话保留。

<h3 id="enforce-quality-gates-with-hooks">
  使用 hooks 强制质量门
</h3>

使用 [hooks](/docs/zh-CN/hooks) 在队友完成工作或任务创建或完成时强制执行规则：

* [`TeammateIdle`](/docs/zh-CN/hooks#teammateidle)：当队友即将空闲时运行。以代码 2 退出以发送反馈并保持队友工作。
* [`TaskCreated`](/docs/zh-CN/hooks#taskcreated)：当任务被创建时运行。以代码 2 退出以防止创建并发送反馈。
* [`TaskCompleted`](/docs/zh-CN/hooks#taskcompleted)：当任务被标记为完成时运行。以代码 2 退出以防止完成并发送反馈。

<h2 id="how-agent-teams-work">
  Agent teams 如何工作
</h2>

本部分涵盖 agent teams 背后的架构和机制。如果你想开始使用它们，请参阅上面的 [控制你的 agent team](#control-your-agent-team)。

<h3 id="how-claude-starts-agent-teams">
  Claude 如何启动 agent teams
</h3>

要启动一个团队，请向 Claude 请求队友。当 Claude 在启用 agent teams 的情况下调用 [Agent tool](/docs/zh-CN/tools-reference) 并使用 [`name`](/docs/zh-CN/sub-agents#subagent-names) 时，除非该调用是一个 [fork](/docs/zh-CN/sub-agents#fork-the-current-conversation) 或在调用本身上传递 `isolation`，否则 Claude 会启动一个队友。Claude Code 不会要求你确认启动。

Claude 也会自动为普通 subagents 命名，以便稍后可以向它们发送消息。这些调用遵循相同的规则，所以即使你没有请求，团队也可能形成。如果你想要 subagents 而不是 agent teams，请 [关闭 agent teams](#claude-spawns-teammates-instead-of-subagents)。

<h3 id="architecture">
  架构
</h3>

Agent team 由以下部分组成：

| 组件 | 角色 |
| :- | :- |
| **Team lead** | 生成队友并协调工作的主 Claude Code 会话 |
| **Teammates** | 各自处理分配任务的独立 Claude Code 实例 |
| **Task list** | 队友认领和完成的共享工作项列表 |
| **Mailbox** | 代理之间通信的消息系统 |

每个代理的邮箱是位于 `~/.claude/teams/{team-name}/inboxes/{agent-name}.json` 的 JSON 文件。Claude Code 在读取邮箱文件时验证每个条目。不匹配消息格式的条目被报告为错误并从文件中删除；有效的消息仍然会被传递。在 v2.1.207 之前，单个格式错误的邮箱条目会导致每秒重复出现错误，并阻止该邮箱的传递，直到你手动删除文件。

Claude Code 仅在写入收件人邮箱文件成功时才报告消息已发送，无论消息是纯文本还是结构化协议消息（如计划批准或关闭请求）。当写入失败时，例如因为磁盘已满或邮箱目录不可写，发送代理会收到错误，什么都不会被发送。有关错误消息和恢复步骤，请参阅 [Failed to write to a teammate's inbox](/docs/zh-CN/errors#failed-to-write-to-a-teammate-inbox)。

Claude Code 自动管理任务依赖关系：当队友完成其他任务依赖的任务时，被阻止的任务会自动解除阻止，无需你采取任何行动。

团队和任务存储在本地，名称来自会话派生的名称。名称是 `session-` 后跟会话 ID 的前八个字符：

* **Team config**：`~/.claude/teams/{team-name}/config.json`
* **Task list**：`~/.claude/tasks/{team-name}/`

Claude Code 在会话启动时自动生成这两个，并在队友加入、空闲或离开时更新它们。团队配置目录在会话结束时被删除。任务列表目录在本地持久化，永远不会上传，所以恢复的会话会保留它们的任务。保留期由你已经为会话记录控制的相同 [`cleanupPeriodDays`](/docs/zh-CN/settings-reference#cleanupperioddays) 管理，遵循 [retention sweep rules](/docs/zh-CN/claude-directory#cleaned-up-automatically)。

团队配置保存运行时状态，例如会话 ID 和 tmux 窗格 ID，所以不要手动编辑它或预先编写它：你的更改会在下一次状态更新时被覆盖。

要定义可重用的队友角色，请改用 [subagent 定义](#use-subagent-definitions-for-teammates)。

团队配置包含一个 `members` 数组，其中包含每个成员的名称和代理 ID。负责人的条目始终携带代理类型 `team-lead`。队友的条目携带负责人在生成它时命名的任何代理类型，无论是 [built-in type](/docs/zh-CN/sub-agents#built-in-subagents) 还是 [subagent definition](#use-subagent-definitions-for-teammates)，当负责人没有命名任何类型时省略该字段。队友可以读取此文件以发现其他团队成员。

没有项目级别的团队配置等效项。项目目录中的 `.claude/teams/teams.json` 之类的文件不被识别为配置；Claude 将其视为普通文件。

<h3 id="use-subagent-definitions-for-teammates">
  为队友使用 subagent 定义
</h3>

当在任一显示模式中生成队友时，你可以引用来自项目、用户或托管 [subagent 范围](/docs/zh-CN/sub-agents#choose-the-subagent-scope) 的 [subagent](/docs/zh-CN/sub-agents) 类型。这让你定义一个角色一次，例如安全审查员或测试运行器，并将其同时重用为委派的 subagent 和 agent team 队友。

要使用 subagent 定义，在要求 Claude 生成队友时按名称提及它：

```text wrap theme={null}
Spawn a teammate using the security-reviewer agent type to audit the auth module.
```

Claude Code 读取你命名的 subagent 定义，并将其以下部分应用于队友。当一个部分取决于队友的 [display mode](#choose-a-display-mode) 时，条目会说明：

* **`tools`**：Claude Code 将队友限制为定义的 `tools` 列表中的工具。对于进程内队友，Claude Code 将 `SendMessage` 添加到该列表，在 [具有 Task tools 的会话](/docs/zh-CN/tools-reference#task-tool-availability) 中，它还添加 `TaskCreate`、`TaskGet`、`TaskList` 和 `TaskUpdate`。
* **`model`**：当你的生成提示没有命名模型时，Claude Code 在任一显示模式中使用定义的 `model`。请参阅 [Claude Code 如何选择队友的模型](#specify-teammates-and-models)。
* **Body**：对于进程内队友，Claude Code 将定义的主体附加到其默认系统提示作为额外指示。对于分割窗格队友，Claude Code 使用主体代替其默认系统提示。
* **`skills`**：Claude Code 在任一显示模式中都不将定义的 `skills` 应用于队友。队友从你的项目和用户设置加载 skills。
* **`mcpServers`**：对于分割窗格队友，Claude Code 在 [该字段的规则](/docs/zh-CN/sub-agents#scope-mcp-servers-to-a-subagent) 下应用定义的 `mcpServers`，这些规则涵盖使用 `--agent` 启动的会话。进程内队友忽略该字段，从你的项目和用户设置加载 MCP servers。

当 Claude 向一个不再运行的进程内队友发送消息时，Claude Code 会在同一会话中将其恢复，恢复为其保存的任何对话，并将消息作为其下一个提示给予它。在你恢复一个会话后，队友不会以这种方式被恢复，根据 [恢复限制](#limitations)。

对于它恢复的队友，Claude Code 重新应用来自项目的 `.claude/agents/` 目录或 `--add-dir` 目录的定义，仅当你 [信任了代理文件所在的文件夹](/docs/zh-CN/permissions#what-runs-before-you-trust-a-folder) 时。信任父文件夹不算数。在那之前，队友会恢复时不带定义的任何工具或指示，仅保留 Claude Code 添加到每个进程内队友的工具。请参阅 [the teammate's agent definition was not restored](/docs/zh-CN/errors#teammate-agent-definition-not-restored) 了解通知文本。

<h3 id="permissions">
  权限
</h3>

队友从负责人的权限模式开始，除了 [`dontAsk` 模式](/docs/zh-CN/permission-modes#allow-only-pre-approved-tools-with-dontask-mode)，他们不继承该模式。如果负责人使用 `--dangerously-skip-permissions` 运行，所有队友也会这样做。生成后，你可以更改个别队友的权限模式，但在生成时无法设置每个队友的权限模式。

队友权限提示出现在负责人会话中，所以请在那里自己批准它们。[Plan approval](#have-teammates-plan-before-implementing) 是设计的例外：负责人会话授予队友计划批准，无需向你单独提示。

<h4 id="messages-between-agents">
  代理之间的消息
</h4>

当一个代理通过 `SendMessage` 向另一个代理发送消息时，Claude Code 告诉接收代理消息来自另一个 Claude 会话，而不是来自你。队友无法批准权限提示或代表你提供同意，被拒绝某项操作的队友无法将其转发给另一个队友以绕过检查。相同的规则适用于来自 [你的其他 Claude Code 会话](/docs/zh-CN/cross-session-messaging#how-a-session-treats-an-incoming-message) 的消息，完全在团队之外。

在 [auto mode](/docs/zh-CN/permission-modes#eliminate-prompts-with-auto-mode) 中，分类器对代理之间的消息应用两项检查：

* 它将从另一个代理转发的批准声明视为不受信任的输入，而不是来自你的确认。
* 它在 Claude Code 传递消息之前审查每条消息，无论是纯消息还是结构化协议消息（如关闭请求或计划批准响应）。它阻止的消息永远不会到达收件人。

<h3 id="context-and-communication">
  Context 和通信
</h3>

每个队友都有自己的 context window。生成时，队友加载与常规会话相同的项目 context：CLAUDE.md、MCP servers 和 skills。如果你使用 [`--setting-sources`](/docs/zh-CN/cli-reference#cli-flags) 启动负责人，队友会从相同的受限源列表加载。在 v2.1.281 之前，[split-pane](#choose-a-display-mode) 队友加载每个设置源。

队友也接收来自负责人的生成提示。负责人的对话历史不会继承。

**队友如何共享信息：**

* **自动消息传递**：当队友发送消息时，它们会自动传递给收件人。负责人不需要轮询更新。
* **空闲通知**：当队友完成并停止时，它会自动通知负责人并在通知中包含其最终答案。其轮次因 API 错误而结束的队友会通知负责人它失败了并包含错误文本。
* **共享任务列表**：[具有 Task tools 的代理](/docs/zh-CN/tools-reference#task-tool-availability) 可以看到任务状态并认领可用工作。
* **队友消息传递**：按名称向一个特定的队友发送消息。要联系所有人，请为每个收件人发送一条消息。

负责人在生成队友时为其分配一个名称，任何队友都可以按该名称向任何其他队友发送消息。要获得可预测的名称，你可以在后续提示中引用，在你的生成指令中告诉负责人如何称呼每个队友。

<h3 id="token-usage">
  令牌使用
</h3>

Agent teams 使用的令牌数量明显多于单个会话。每个队友都有自己的 context window，令牌使用量随活跃队友数量而增加。对于研究、审查和新功能工作，额外的令牌通常是值得的。对于日常任务，单个会话更具成本效益。有关使用指导，请参阅 [agent team 令牌成本](/docs/zh-CN/costs#agent-team-token-costs)。

进程内队友的请求落在主对话的 [cache TTL bucket](/docs/zh-CN/prompt-caching#which-ttl-each-request-gets) 之外，所以其缓存默认保持五分钟，包括在 Claude 订阅上。要将其保持一小时，请将 [`subagentPromptCacheTtl`](/docs/zh-CN/settings-reference#subagentpromptcachettl) 设置为 `1h`。API 以更高的速率计费 1 小时缓存写入。

<h2 id="use-case-examples">
  用例示例
</h2>

这些示例展示了 agent teams 如何处理并行探索增加价值的任务。

<h3 id="run-a-parallel-code-review">
  运行并行代码审查
</h3>

单个审查者往往一次只关注一种类型的问题。将审查标准分解为独立的领域意味着安全性、性能和测试覆盖都同时获得彻底的关注。提示为每个队友分配一个不同的视角，以便他们不重叠：

```text wrap theme={null}
Spawn three teammates to review PR #142:
- One focused on security implications
- One checking performance impact
- One validating test coverage
Have them each review and report findings.
```

每个审查者从同一个 PR 工作，但应用不同的过滤器。负责人在他们完成后综合所有三个的发现。

<h3 id="investigate-with-competing-hypotheses">
  使用竞争假设进行调查
</h3>

当根本原因不清楚时，单个代理往往会找到一个看似合理的解释并停止寻找。提示通过让队友明确对抗来对抗这一点：每个队友的工作不仅是调查自己的理论，还要质疑其他队友的理论。

```text wrap theme={null}
Users report the app exits after one message instead of staying connected.
Spawn 5 agent teammates to investigate different hypotheses. Have them talk to
each other to try to disprove each other's theories, like a scientific
debate. Update the findings doc with whatever consensus emerges.
```

辩论结构是这里的关键机制。顺序调查受到锚定的影响：一旦探索了一个理论，后续调查就会偏向于它。

有多个独立的调查者积极尝试相互反驳，存活下来的理论更有可能是实际的根本原因。

<h2 id="best-practices">
  最佳实践
</h2>

<h3 id="give-teammates-enough-context">
  给队友足够的 context
</h3>

队友自动加载项目 context，包括 CLAUDE.md、MCP servers 和 skills，但他们不继承负责人的对话历史。有关详细信息，请参阅 [Context 和通信](#context-and-communication)。在生成提示中包含特定于任务的详细信息：

```text wrap theme={null}
Spawn a security reviewer teammate with the prompt: "Review the authentication module
at src/auth/ for security vulnerabilities. Focus on token handling, session
management, and input validation. The app uses JWT tokens stored in
httpOnly cookies. Report any issues with severity ratings."
```

<h3 id="choose-an-appropriate-team-size">
  选择适当的团队规模
</h3>

队友数量没有硬限制，但实际限制适用：

* **令牌成本线性增加**：每个队友都有自己的 context window 并独立消耗令牌。有关详细信息，请参阅 [agent team 令牌成本](/docs/zh-CN/costs#agent-team-token-costs)。
* **协调开销增加**：更多队友意味着更多通信、任务协调和潜在冲突
* **收益递减**：超过一定点，额外的队友不会按比例加快工作

对于大多数工作流，从 3-5 个队友开始。这平衡了并行工作和可管理的协调。如果你有 15 个独立任务，3 个队友是一个很好的起点。

仅当工作真正受益于队友同时工作时才扩展。三个专注的队友通常胜过五个分散的队友。

<h3 id="size-tasks-appropriately">
  适当调整任务大小
</h3>

* **太小**：协调开销超过收益
* **太大**：队友长时间工作而不进行检查，增加浪费努力的风险
* **恰到好处**：自包含的单位，产生清晰的可交付成果，例如函数、测试文件或审查

<Tip>
  负责人将工作分解为任务并自动分配给队友。如果它没有创建足够的任务，要求它将工作分成更小的部分。每个队友有 5-6 个任务可以让每个人保持生产力，并让负责人在有人卡住时重新分配工作。
</Tip>

<h3 id="wait-for-teammates-to-finish">
  等待队友完成
</h3>

有时负责人开始自己实施任务，而不是等待队友。如果你注意到这一点：

```text wrap theme={null}
Wait for your teammates to complete their tasks before proceeding
```

<h3 id="start-with-research-and-review">
  从研究和审查开始
</h3>

如果你是 agent teams 的新手，从具有明确边界且不需要编写代码的任务开始：审查 PR、研究库或调查错误。这些任务展示了并行探索的价值，而不会带来并行实施所带来的协调挑战。

<h3 id="avoid-file-conflicts">
  避免文件冲突
</h3>

两个队友编辑同一文件会导致覆盖。分解工作，使每个队友拥有不同的文件集。

<h3 id="monitor-and-steer">
  监控和指导
</h3>

检查队友的进度，重定向不起作用的方法，并在发现时综合发现。让团队无人值守运行太长时间会增加浪费努力的风险。

<h2 id="troubleshooting">
  故障排除
</h2>

<h3 id="teammates-not-appearing">
  队友未出现
</h3>

如果在你要求 Claude 创建队友后队友没有出现：

* 在 in-process 模式中，队友出现在提示输入下方的代理面板中。使用上下箭头键选择一个，然后按 Enter 键查看它。
* 闲置后消失的队友行已被隐藏，而不是停止。闲置行在整个面板闲置 30 秒后隐藏，并在队友的下一轮出现时重新出现。当超过三个队友闲置时，他们的多余行会折叠成一个 `N idle agents` 行，按 Enter 键可展开。按名称向队友发送消息以将隐藏的行恢复。
* 检查你给 Claude 的任务是否足够复杂以保证需要团队。Claude 根据任务决定是否生成队友。
* 如果你明确要求分割窗格，请确保 tmux 已安装并在你的 PATH 中可用：
  ```bash theme={null}
  which tmux
  ```
* 对于 iTerm2，验证 `it2` CLI 已安装，并在 iTerm2 偏好设置中启用了 Python API。

<h3 id="claude-spawns-teammates-instead-of-subagents">
  Claude 生成队友而不是子代理
</h3>

启用代理团队时，Claude 在负责人的会话中命名的子代理会作为队友启动。Claude [可以自己命名子代理](#how-claude-starts-agent-teams)，所以这可能在你从未将其框架化为团队工作的委派过程中发生。

要使命名的子代理再次作为子代理启动，请通过将 `CLAUDE_CODE_EXPERIMENTAL_AGENT_TEAMS` 设置为 `0` 来关闭代理团队：

```json settings.json theme={null}
{
  "env": {
    "CLAUDE_CODE_EXPERIMENTAL_AGENT_TEAMS": "0"
  }
}
```

你不需要启动新会话：Claude Code 在你保存时将设置文件 `env` 值重新应用到运行中的会话，并在每次 Claude 生成子代理时重新读取该变量，所以 Claude 命名的下一个子代理会作为子代理启动。

在你的用户 `settings.json` 中将变量设置为 `0` 会覆盖 shell 导出。其他设置源仍然可以启用代理团队：

* **更高优先级的设置文件**：项目设置、本地设置和 `--settings` 有效负载在用户设置之后应用，所以在其中任何一个中将变量设置为 `1` 的 `env` 条目会获胜。请参阅 [设置优先级](/docs/zh-CN/settings#settings-precedence)。
* **托管设置**：[托管设置](/docs/zh-CN/server-managed-settings) 在所有其他源之后应用。如果你的组织在那里启用了代理团队，请要求你的管理员更改托管值。

更改后，Claude 可能仍会命名子代理，该名称继续作为 [`SendMessage` 地址](/docs/zh-CN/sub-agents#resume-subagents)工作。Claude 在每个子代理完成时接收其结果。

<h3 id="too-many-permission-prompts">
  过多权限提示
</h3>

队友权限请求冒泡到负责人，这可能会造成摩擦。在生成队友之前，在你的 [权限设置](/docs/zh-CN/permissions) 中预批准常见操作，以减少中断。

<h3 id="agents-stopping-early">
  代理提前停止
</h3>

队友可能在遇到错误后停止，而不是恢复。通过在代理面板中选择队友并在 in-process 模式中按 Enter 键，或在分割模式中点击窗格来检查他们的输出，然后：

* 直接给他们额外的指示
* 生成一个替代队友来继续工作

来自负责人或另一个队友的消息会唤醒正在等待重试失败 API 请求的 in-process 队友，因此它会立即重试，而不是等待完整的重试延迟。

负责人也可能提前停止，在所有任务实际完成之前决定团队已完成。如果发生这种情况，告诉它继续。

<h3 id="orphaned-tmux-sessions">
  孤立的 tmux 会话
</h3>

如果 tmux 会话在 Claude Code 会话结束后仍然存在，它可能没有被完全清理。列出会话并杀死由团队创建的会话：

```bash theme={null}
tmux ls
tmux kill-session -t <session-name>
```

<h2 id="limitations">
  限制
</h2>

Agent teams 是实验性的。需要注意的当前限制：

* **In-process 队友没有会话恢复**：`/resume` 和 `/rewind` 不会恢复 in-process 队友。恢复会话后，负责人可能会尝试向不再存在的队友发送消息。如果发生这种情况，告诉负责人生成新队友。
* **任务状态可能滞后**：队友有时无法将任务标记为已完成，这会阻止依赖任务。如果任务似乎卡住，检查工作是否实际完成，并手动更新任务状态或告诉负责人推动队友。
* **关闭可能很慢**：队友在关闭前完成他们的当前请求或工具调用，这可能需要时间。
* **每个会话一个团队**：一个会话恰好有一个团队，作用域限于该会话。你无法创建额外的命名团队或在会话间共享团队。
* **没有嵌套团队**：队友无法生成自己的队友。只有负责人可以管理团队。
* **没有来自 in-process 队友的后台子代理**：in-process 队友自己的子代理在前台运行，因为队友的后台工作无法超越负责人的进程。Claude Code 在队友生成定义设置 `background: true` 的子代理时返回错误。队友的 `run_in_background: true` 请求也会失败，要么返回错误，要么如 [Claude Code 如何选择前台或后台](/docs/zh-CN/sub-agents#run-subagents-in-foreground-or-background) 中所述在前台静默运行。从主对话启动的子代理遵循[后台默认值](/docs/zh-CN/sub-agents#run-subagents-in-foreground-or-background)。
* **负责人是固定的**：主会话在其生命周期内是其团队的负责人。你无法将队友提升为负责人或转移领导权。
* **权限在生成时设置**：队友从 [权限](#permissions) 下描述的权限模式开始。你可以在生成后更改个别队友的权限模式，但在生成时无法设置每个队友的权限模式。
* **分割窗格需要 tmux 或 iTerm2**：默认 in-process 模式在任何终端中工作。VS Code 的集成终端、Windows Terminal 或 Ghostty 不支持分割窗格模式。

<h2 id="next-steps">
  后续步骤
</h2>

探索用于并行工作和委派的相关方法：

* **轻量级委派**：[subagents](/docs/zh-CN/sub-agents) 在你的会话中生成辅助代理以进行研究或验证，更适合不需要代理间协调的任务
* **在你自己的会话之间进行消息传递**：[cross-session messaging](/docs/zh-CN/cross-session-messaging) 让 Claude 在你自己运行的会话之间传递发现
* **手动并行会话**：[Git worktrees](/docs/zh-CN/worktrees) 让你自己运行多个 Claude Code 会话，无需自动化团队协调
