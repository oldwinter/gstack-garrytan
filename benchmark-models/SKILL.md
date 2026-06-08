---
name: benchmark-models
preamble-tier: 1
version: 1.0.0
description: "gstack skills 的 cross-model benchmark。将同一个 prompt 并排跑过 Claude、 GPT（通过 Codex CLI）和 Gemini，对比 latency、tokens、cost，并可选通过 LLM judge 评估 quality。用数据而不是 vibes 回答 \"which"
triggers:
  - cross model benchmark
  - compare claude gpt gemini
  - benchmark skill across models
  - which model should I use
allowed-tools:
  - Bash
  - Read
  - AskUserQuestion
---
<!-- AUTO-GENERATED from SKILL.md.tmpl — do not edit directly -->
<!-- Regenerate: bun run gen:skill-docs -->


## When to invoke this skill（何时调用此 skill）

Use when this request matches the routing prose below. Proactively suggest this skill when the user intent fits, unless proactive routing is disabled.（当请求匹配下方 routing prose 时使用；除非禁用主动路由，否则在用户意图匹配时主动建议此 skill。）

model is actually best for this skill?"。
与测量 web page performance 的 /benchmark 分开。适用于："benchmark models"、
"compare models"、"which model is best for X"、"cross-model comparison"、
"model shootout"。（gstack）

Voice triggers (speech-to-text aliases): "compare models", "model shootout", "which model is best".

## Preamble (run first)（Preamble，先运行）

```bash
_UPD=$(~/.claude/skills/gstack/bin/gstack-update-check 2>/dev/null || .claude/skills/gstack/bin/gstack-update-check 2>/dev/null || true)
[ -n "$_UPD" ] && echo "$_UPD" || true
mkdir -p ~/.gstack/sessions
touch ~/.gstack/sessions/"$PPID"
_SESSIONS=$(find ~/.gstack/sessions -mmin -120 -type f 2>/dev/null | wc -l | tr -d ' ')
find ~/.gstack/sessions -mmin +120 -type f -exec rm {} + 2>/dev/null || true
_PROACTIVE=$(~/.claude/skills/gstack/bin/gstack-config get proactive 2>/dev/null || echo "true")
_PROACTIVE_PROMPTED=$([ -f ~/.gstack/.proactive-prompted ] && echo "yes" || echo "no")
_BRANCH=$(git branch --show-current 2>/dev/null || echo "unknown")
echo "BRANCH: $_BRANCH"
_SKILL_PREFIX=$(~/.claude/skills/gstack/bin/gstack-config get skill_prefix 2>/dev/null || echo "false")
echo "PROACTIVE: $_PROACTIVE"
echo "PROACTIVE_PROMPTED: $_PROACTIVE_PROMPTED"
echo "SKILL_PREFIX: $_SKILL_PREFIX"
source <(~/.claude/skills/gstack/bin/gstack-repo-mode 2>/dev/null) || true
REPO_MODE=${REPO_MODE:-unknown}
echo "REPO_MODE: $REPO_MODE"
_SESSION_KIND=$(~/.claude/skills/gstack/bin/gstack-session-kind 2>/dev/null || echo "interactive")
case "$_SESSION_KIND" in spawned|headless|interactive) ;; *) _SESSION_KIND="interactive" ;; esac
echo "SESSION_KIND: $_SESSION_KIND"
_LAKE_SEEN=$([ -f ~/.gstack/.completeness-intro-seen ] && echo "yes" || echo "no")
echo "LAKE_INTRO: $_LAKE_SEEN"
_TEL=$(~/.claude/skills/gstack/bin/gstack-config get telemetry 2>/dev/null || true)
_TEL_PROMPTED=$([ -f ~/.gstack/.telemetry-prompted ] && echo "yes" || echo "no")
_TEL_START=$(date +%s)
_SESSION_ID="$$-$(date +%s)"
echo "TELEMETRY: ${_TEL:-off}"
echo "TEL_PROMPTED: $_TEL_PROMPTED"
_EXPLAIN_LEVEL=$(~/.claude/skills/gstack/bin/gstack-config get explain_level 2>/dev/null || echo "default")
if [ "$_EXPLAIN_LEVEL" != "default" ] && [ "$_EXPLAIN_LEVEL" != "terse" ]; then _EXPLAIN_LEVEL="default"; fi
echo "EXPLAIN_LEVEL: $_EXPLAIN_LEVEL"
_QUESTION_TUNING=$(~/.claude/skills/gstack/bin/gstack-config get question_tuning 2>/dev/null || echo "false")
echo "QUESTION_TUNING: $_QUESTION_TUNING"
mkdir -p ~/.gstack/analytics
if [ "$_TEL" != "off" ]; then
echo '{"skill":"benchmark-models","ts":"'$(date -u +%Y-%m-%dT%H:%M:%SZ)'","repo":"'$(_repo=$(basename "$(git rev-parse --show-toplevel 2>/dev/null)" 2>/dev/null | tr -cd 'a-zA-Z0-9._-'); echo "${_repo:-unknown}")'"}'  >> ~/.gstack/analytics/skill-usage.jsonl 2>/dev/null || true
fi
for _PF in $(find ~/.gstack/analytics -maxdepth 1 -name '.pending-*' 2>/dev/null); do
  if [ -f "$_PF" ]; then
    if [ "$_TEL" != "off" ] && [ -x "~/.claude/skills/gstack/bin/gstack-telemetry-log" ]; then
      ~/.claude/skills/gstack/bin/gstack-telemetry-log --event-type skill_run --skill _pending_finalize --outcome unknown --session-id "$_SESSION_ID" 2>/dev/null || true
    fi
    rm -f "$_PF" 2>/dev/null || true
  fi
  break
done
eval "$(~/.claude/skills/gstack/bin/gstack-slug 2>/dev/null)" 2>/dev/null || true
_LEARN_FILE="${GSTACK_HOME:-$HOME/.gstack}/projects/${SLUG:-unknown}/learnings.jsonl"
if [ -f "$_LEARN_FILE" ]; then
  _LEARN_COUNT=$(wc -l < "$_LEARN_FILE" 2>/dev/null | tr -d ' ')
  echo "LEARNINGS: $_LEARN_COUNT entries loaded"
  if [ "$_LEARN_COUNT" -gt 5 ] 2>/dev/null; then
    ~/.claude/skills/gstack/bin/gstack-learnings-search --limit 3 2>/dev/null || true
  fi
else
  echo "LEARNINGS: 0"
fi
~/.claude/skills/gstack/bin/gstack-timeline-log '{"skill":"benchmark-models","event":"started","branch":"'"$_BRANCH"'","session":"'"$_SESSION_ID"'"}' 2>/dev/null &
_HAS_ROUTING="no"
if [ -f CLAUDE.md ] && grep -q "## Skill routing" CLAUDE.md 2>/dev/null; then
  _HAS_ROUTING="yes"
fi
_ROUTING_DECLINED=$(~/.claude/skills/gstack/bin/gstack-config get routing_declined 2>/dev/null || echo "false")
echo "HAS_ROUTING: $_HAS_ROUTING"
echo "ROUTING_DECLINED: $_ROUTING_DECLINED"
_VENDORED="no"
if [ -d ".claude/skills/gstack" ] && [ ! -L ".claude/skills/gstack" ]; then
  if [ -f ".claude/skills/gstack/VERSION" ] || [ -d ".claude/skills/gstack/.git" ]; then
    _VENDORED="yes"
  fi
fi
echo "VENDORED_GSTACK: $_VENDORED"
echo "MODEL_OVERLAY: claude"
_CHECKPOINT_MODE=$(~/.claude/skills/gstack/bin/gstack-config get checkpoint_mode 2>/dev/null || echo "explicit")
_CHECKPOINT_PUSH=$(~/.claude/skills/gstack/bin/gstack-config get checkpoint_push 2>/dev/null || echo "false")
echo "CHECKPOINT_MODE: $_CHECKPOINT_MODE"
echo "CHECKPOINT_PUSH: $_CHECKPOINT_PUSH"
# Plan mode 提示：供 /spec 这类会根据 plan-mode 状态分支的 skills 使用。
# Claude Code 通过 system reminders 暴露 plan mode；这里 best-effort
# 检测 CLAUDE_PLAN_FILE（harness 在 plan mode active 时设置），否则
# fallback 到 "inactive"。Codex hosts 和 Claude execution mode 都会落到
# inactive，这是安全默认值（默认走 file+execute pipeline）。
if [ -n "${CLAUDE_PLAN_FILE:-}${GSTACK_PLAN_MODE_FORCE:-}" ]; then
  export GSTACK_PLAN_MODE="active"
elif [ "${GSTACK_PLAN_MODE:-}" = "active" ]; then
  export GSTACK_PLAN_MODE="active"
else
  export GSTACK_PLAN_MODE="inactive"
fi
echo "GSTACK_PLAN_MODE: $GSTACK_PLAN_MODE"
[ -n "$OPENCLAW_SESSION" ] && echo "SPAWNED_SESSION: true" || true
```

## Plan Mode Safe Operations（Plan mode 安全操作）

在 plan mode 中，以下操作允许执行，因为它们用于补充计划信息：`$B`、`$D`、`codex exec`/`codex review`、写入 `~/.gstack/`、写入 plan file，以及对生成 artifacts 使用 `open`。

## Skill Invocation During Plan Mode（Plan mode 中的 skill 调用）

如果用户在 plan mode 中调用 skill，skill 优先于通用 plan mode 行为。**把 skill 文件视为可执行指令，而不是参考资料。**从 Step 0 开始逐步执行；第一次 AskUserQuestion 是工作流进入 plan mode 的方式，不是违规。AskUserQuestion（任意变体：`mcp__*__AskUserQuestion` 或 native；见 "AskUserQuestion Format → Tool resolution"）满足 plan mode 的 turn-end 要求。如果 AskUserQuestion 不可用或 call fails，遵循 AskUserQuestion Format failure fallback：`headless` → BLOCKED；`interactive` → prose fallback（同样满足 end-of-turn）。遇到 STOP 点时立即停止。不要继续工作流，也不要在那里调用 ExitPlanMode。标记为 "PLAN MODE EXCEPTION — ALWAYS RUN" 的命令需要执行。仅在 skill 工作流完成后，或用户要求取消 skill / 离开 plan mode 时，才调用 ExitPlanMode。

如果 `PROACTIVE` 是 `"false"`，不要 auto-invoke 或主动建议 skills。如果某个 skill 看起来有用，询问："I think /skillname might help here — want me to run it?"

如果 `SKILL_PREFIX` 是 `"true"`，建议/invoke `/gstack-*` names。Disk paths 仍是 `~/.claude/skills/gstack/[skill-name]/SKILL.md`。

如果 output 显示 `UPGRADE_AVAILABLE <old> <new>`：读取 `~/.claude/skills/gstack/gstack-upgrade/SKILL.md` 并遵循 "Inline upgrade flow"（如果已配置则 auto-upgrade，否则用 4 个 options 的 AskUserQuestion；如果 declined，则写入 snooze state）。

如果 output 显示 `JUST_UPGRADED <from> <to>`：打印 "Running gstack v{to} (just updated!)"。如果 `SPAWNED_SESSION` 为 true，跳过 feature discovery。

Feature discovery，每个 session 最多一个 prompt：
- 缺少 `~/.claude/skills/gstack/.feature-prompted-continuous-checkpoint`：用 AskUserQuestion 询问是否启用 Continuous checkpoint auto-commits。如果 accepted，运行 `~/.claude/skills/gstack/bin/gstack-config set checkpoint_mode continuous`。始终 touch marker。
- 缺少 `~/.claude/skills/gstack/.feature-prompted-model-overlay`：告知 "Model overlays are active. MODEL_OVERLAY shows the patch." 始终 touch marker。

Upgrade prompts 后，继续 workflow。

如果 `WRITING_STYLE_PENDING` 是 `yes`：询问一次 writing style：

> v1 prompts 更简单：first-use jargon glosses、outcome-framed questions、更短 prose。保留 default，还是恢复 terse？

Options:
- A) 保留新 default（recommended — good writing helps everyone）
- B) 恢复 V0 prose — 设置 `explain_level: terse`

如果选择 A：保持 `explain_level` unset（默认为 `default`）。
如果选择 B：运行 `~/.claude/skills/gstack/bin/gstack-config set explain_level terse`。

无论选择什么，始终运行：
```bash
rm -f ~/.gstack/.writing-style-prompt-pending
touch ~/.gstack/.writing-style-prompted
```

如果 `WRITING_STYLE_PENDING` 是 `no`，跳过。

如果 `LAKE_INTRO` 是 `no`：说 "gstack 遵循 **Boil the Ocean** principle：当 AI 让边际成本接近 0 时，就把完整的事做完。Read more: https://garryslist.org/posts/boil-the-ocean"。询问是否打开：

```bash
open https://garryslist.org/posts/boil-the-ocean
touch ~/.gstack/.completeness-intro-seen
```

只有用户同意时才运行 `open`。始终运行 `touch`。

如果 `TEL_PROMPTED` 是 `no` 且 `LAKE_INTRO` 是 `yes`：通过 AskUserQuestion 询问一次 telemetry：

> 帮助 gstack 变得更好。只分享 usage data：skill、duration、crashes、stable device ID。不分享 code 或 file paths。Repo name 只在本地记录，并会在任何 upload 前移除。

Options:
- A) 帮助 gstack 变得更好！（recommended）
- B) 不，谢谢

如果选择 A：运行 `~/.claude/skills/gstack/bin/gstack-config set telemetry community`

如果选择 B：继续询问：

> Anonymous mode 只发送 aggregate usage，不发送 unique ID。

Options:
- A) 可以，anonymous 没问题
- B) 不，谢谢，完全关闭

如果 B→A：运行 `~/.claude/skills/gstack/bin/gstack-config set telemetry anonymous`
如果 B→B：运行 `~/.claude/skills/gstack/bin/gstack-config set telemetry off`

始终运行：
```bash
touch ~/.gstack/.telemetry-prompted
```

如果 `TEL_PROMPTED` 是 `yes`，跳过。

如果 `PROACTIVE_PROMPTED` 是 `no` 且 `TEL_PROMPTED` 是 `yes`：询问一次：

> 允许 gstack 主动建议 skills，例如对 "does this work?" 建议 /qa，或对 bugs 建议 /investigate？

Options:
- A) 保持开启（recommended）
- B) 关闭 — 我会自己输入 /commands

如果选择 A：运行 `~/.claude/skills/gstack/bin/gstack-config set proactive true`
如果选择 B：运行 `~/.claude/skills/gstack/bin/gstack-config set proactive false`

始终运行：
```bash
touch ~/.gstack/.proactive-prompted
```

如果 `PROACTIVE_PROMPTED` 是 `yes`，跳过。

如果 `HAS_ROUTING` 为 `no`，且 `ROUTING_DECLINED` 为 `false`，且 `PROACTIVE_PROMPTED` 为 `yes`：
检查项目根目录是否存在 CLAUDE.md。如果不存在，则创建它。

使用 AskUserQuestion：

> 当 project 的 CLAUDE.md 包含 skill routing rules 时，gstack 效果最好。

Options:
- A) 把 routing rules 添加到 CLAUDE.md（recommended）
- B) 不，谢谢，我会手动 invoke skills

如果选择 A：把以下 section 追加到 CLAUDE.md 末尾：

```markdown

## Skill routing（Skill 路由）

当用户请求匹配可用 skill 时，通过 Skill tool 调用它。不确定时，也调用对应 skill。

关键 routing rules：
- 产品想法/brainstorming -> 调用 /office-hours
- 策略/scope -> 调用 /plan-ceo-review
- 架构 -> 调用 /plan-eng-review
- Design system/plan review -> 调用 /design-consultation 或 /plan-design-review
- 完整 review pipeline -> 调用 /autoplan
- Bugs/errors -> 调用 /investigate
- QA/testing site behavior -> 调用 /qa 或 /qa-only
- Code review/diff check -> 调用 /review
- Visual polish -> 调用 /design-review
- Ship/deploy/PR -> 调用 /ship 或 /land-and-deploy
- 保存进度 -> 调用 /context-save
- 恢复上下文 -> 调用 /context-restore
- 编写 backlog-ready spec/issue -> 调用 /spec
```

然后提交改动：`git add CLAUDE.md && git commit -m "chore: add gstack skill routing rules to CLAUDE.md"`

如果选择 B：运行 `~/.claude/skills/gstack/bin/gstack-config set routing_declined true`，并说明可用 `gstack-config set routing_declined false` 重新启用。

每个项目只执行一次。如果 `HAS_ROUTING` 为 `yes` 或 `ROUTING_DECLINED` 为 `true`，则跳过。

如果 `VENDORED_GSTACK` 是 `yes`，且 `~/.gstack/.vendoring-warned-$SLUG` 不存在，则通过 AskUserQuestion warning 一次：

> 这个 project 把 gstack vendored 在 `.claude/skills/gstack/`。Vendoring 已 deprecated。
> 是否迁移到 team mode？

Options:
- A) 是，现在迁移到 team mode
- B) 否，我自己处理

如果选择 A：
1. 运行 `git rm -r .claude/skills/gstack/`
2. 运行 `echo '.claude/skills/gstack/' >> .gitignore`
3. 运行 `~/.claude/skills/gstack/bin/gstack-team-init required`（或 `optional`）
4. 运行 `git add .claude/ .gitignore CLAUDE.md && git commit -m "chore: migrate gstack from vendored to team mode"`
5. 告诉用户："Done. Each developer now runs: `cd ~/.claude/skills/gstack && ./setup --team`"（保留 exact command）

如果选择 B：说 "OK，我不会迁移。你需要自己保持 vendored copy up to date。"

无论选择什么，始终运行：
```bash
eval "$(~/.claude/skills/gstack/bin/gstack-slug 2>/dev/null)" 2>/dev/null || true
touch ~/.gstack/.vendoring-warned-${SLUG:-unknown}
```

如果 marker 已存在，则跳过。

如果 `SPAWNED_SESSION` 是 `"true"`，你正在由 AI orchestrator（例如 OpenClaw）
spawn 的 session 中运行。在 spawned sessions 中：
- 不要使用 AskUserQuestion 做 interactive prompts。自动选择 recommended option。
- 不要运行 upgrade checks、telemetry prompts、routing injection 或 lake intro。
- 专注完成任务，并通过 prose output 报告结果。
- 以 completion report 收尾：shipped 了什么、做了哪些 decisions、还有什么不确定。

## Artifacts Sync (skill start)（Artifacts 同步，skill 启动时）

```bash
_GSTACK_HOME="${GSTACK_HOME:-$HOME/.gstack}"
# 优先使用 v1.27.0.0 artifacts 文件；对于 migration script 运行前
# 处于升级中途的用户，fallback 到旧 brain 文件。
if [ -f "$HOME/.gstack-artifacts-remote.txt" ]; then
  _BRAIN_REMOTE_FILE="$HOME/.gstack-artifacts-remote.txt"
else
  _BRAIN_REMOTE_FILE="$HOME/.gstack-brain-remote.txt"
fi
_BRAIN_SYNC_BIN="~/.claude/skills/gstack/bin/gstack-brain-sync"
_BRAIN_CONFIG_BIN="~/.claude/skills/gstack/bin/gstack-config"

# /sync-gbrain context-load：当 gbrain 可用时，教 agent 使用 gbrain。
# Per-worktree pin：post-spike redesign 使用 kubectl-style 的 `.gbrain-source`
# 放在 git toplevel 里限定 queries 范围。要在 worktree 内寻找 pin（不是
# global state file），避免因为 worktree A 已同步，就让没有 pin 的 worktree B
# 声称自己已 indexed。gbrain 未配置时为空字符串（对非 gbrain 用户为零 context cost）。
_GBRAIN_CONFIG="$HOME/.gbrain/config.json"
if [ -f "$_GBRAIN_CONFIG" ] && command -v gbrain >/dev/null 2>&1; then
  _GBRAIN_VERSION_OK=$(gbrain --version 2>/dev/null | grep -c '^gbrain ' || echo 0)
  if [ "$_GBRAIN_VERSION_OK" -gt 0 ] 2>/dev/null; then
    _GBRAIN_PIN_PATH=""
    _REPO_TOP=$(git rev-parse --show-toplevel 2>/dev/null || echo "")
    if [ -n "$_REPO_TOP" ] && [ -f "$_REPO_TOP/.gbrain-source" ]; then
      _GBRAIN_PIN_PATH="$_REPO_TOP/.gbrain-source"
    fi
    if [ -n "$_GBRAIN_PIN_PATH" ]; then
      echo "GBrain configured. Prefer \`gbrain search\`/\`gbrain query\` over Grep for"
      echo "semantic questions; use \`gbrain code-def\`/\`code-refs\`/\`code-callers\` for"
      echo "symbol-aware code lookup. See \"## GBrain Search Guidance\" in CLAUDE.md."
      echo "Run /sync-gbrain to refresh."
    else
      echo "GBrain configured but this worktree isn't pinned yet. Run \`/sync-gbrain --full\`"
      echo "before relying on \`gbrain search\` for code questions in this worktree."
      echo "Falls back to Grep until pinned."
    fi
  fi
fi

_BRAIN_SYNC_MODE=$("$_BRAIN_CONFIG_BIN" get artifacts_sync_mode 2>/dev/null || echo off)

# 检测 remote-MCP mode（/setup-gbrain 的 Path 4）。Remote mode 下 local artifacts
# sync 是 no-op；brain server 会按自己的节奏从 GitHub/GitLab 拉取。
# 直接读取 claude.json 以保持 preamble 快速（每次 skill start 不启动 claude CLI 子进程）。
_GBRAIN_MCP_MODE="none"
if command -v jq >/dev/null 2>&1 && [ -f "$HOME/.claude.json" ]; then
  _GBRAIN_MCP_TYPE=$(jq -r '.mcpServers.gbrain.type // .mcpServers.gbrain.transport // empty' "$HOME/.claude.json" 2>/dev/null)
  case "$_GBRAIN_MCP_TYPE" in
    url|http|sse) _GBRAIN_MCP_MODE="remote-http" ;;
    stdio) _GBRAIN_MCP_MODE="local-stdio" ;;
  esac
fi

if [ -f "$_BRAIN_REMOTE_FILE" ] && [ ! -d "$_GSTACK_HOME/.git" ] && [ "$_BRAIN_SYNC_MODE" = "off" ]; then
  _BRAIN_NEW_URL=$(head -1 "$_BRAIN_REMOTE_FILE" 2>/dev/null | tr -d '[:space:]')
  if [ -n "$_BRAIN_NEW_URL" ]; then
    echo "ARTIFACTS_SYNC: artifacts repo detected: $_BRAIN_NEW_URL"
    echo "ARTIFACTS_SYNC: run 'gstack-brain-restore' to pull your cross-machine artifacts (or 'gstack-config set artifacts_sync_mode off' to dismiss forever)"
  fi
fi

if [ -d "$_GSTACK_HOME/.git" ] && [ "$_BRAIN_SYNC_MODE" != "off" ]; then
  _BRAIN_LAST_PULL_FILE="$_GSTACK_HOME/.brain-last-pull"
  _BRAIN_NOW=$(date +%s)
  _BRAIN_DO_PULL=1
  if [ -f "$_BRAIN_LAST_PULL_FILE" ]; then
    _BRAIN_LAST=$(cat "$_BRAIN_LAST_PULL_FILE" 2>/dev/null || echo 0)
    _BRAIN_AGE=$(( _BRAIN_NOW - _BRAIN_LAST ))
    [ "$_BRAIN_AGE" -lt 86400 ] && _BRAIN_DO_PULL=0
  fi
  if [ "$_BRAIN_DO_PULL" = "1" ]; then
    ( cd "$_GSTACK_HOME" && git fetch origin >/dev/null 2>&1 && git merge --ff-only "origin/$(git rev-parse --abbrev-ref HEAD)" >/dev/null 2>&1 ) || true
    echo "$_BRAIN_NOW" > "$_BRAIN_LAST_PULL_FILE"
  fi
  "$_BRAIN_SYNC_BIN" --once 2>/dev/null || true
fi

if [ "$_GBRAIN_MCP_MODE" = "remote-http" ]; then
  # Remote-MCP mode：local artifacts sync 是 no-op（brain admin 的 server
  # 会从 GitHub/GitLab 拉取）。向用户说明这是预期行为，不是故障。
  _GBRAIN_HOST=$(jq -r '.mcpServers.gbrain.url // empty' "$HOME/.claude.json" 2>/dev/null | sed -E 's|^https?://([^/:]+).*|\1|')
  echo "ARTIFACTS_SYNC: remote-mode (managed by brain server ${_GBRAIN_HOST:-remote})"
elif [ -d "$_GSTACK_HOME/.git" ] && [ "$_BRAIN_SYNC_MODE" != "off" ]; then
  _BRAIN_QUEUE_DEPTH=0
  [ -f "$_GSTACK_HOME/.brain-queue.jsonl" ] && _BRAIN_QUEUE_DEPTH=$(wc -l < "$_GSTACK_HOME/.brain-queue.jsonl" | tr -d ' ')
  _BRAIN_LAST_PUSH="never"
  [ -f "$_GSTACK_HOME/.brain-last-push" ] && _BRAIN_LAST_PUSH=$(cat "$_GSTACK_HOME/.brain-last-push" 2>/dev/null || echo never)
  echo "ARTIFACTS_SYNC: mode=$_BRAIN_SYNC_MODE | last_push=$_BRAIN_LAST_PUSH | queue=$_BRAIN_QUEUE_DEPTH"
else
  echo "ARTIFACTS_SYNC: off"
fi
```



Privacy stop-gate：如果输出显示 `ARTIFACTS_SYNC: off`，`artifacts_sync_mode_prompted` 为 `false`，且 gbrain 在 PATH 上或 `gbrain doctor --fast --json` 可运行，则询问一次：

> gstack 可以把你的 artifacts（CEO plans、designs、reports）发布到一个 private GitHub repo，并由 GBrain 跨机器 index。要同步多少内容？

Options:
- A) 所有 allowlisted 内容（recommended）
- B) 仅 artifacts
- C) 拒绝，全部保持 local

回答后：

```bash
# 选择的 mode：full | artifacts-only | off
"$_BRAIN_CONFIG_BIN" set artifacts_sync_mode <choice>
"$_BRAIN_CONFIG_BIN" set artifacts_sync_mode_prompted true
```

如果选择 A/B 且 `~/.gstack/.git` 缺失，询问是否运行 `gstack-artifacts-init`。不要阻塞此 skill。

在 skill END、telemetry 之前：

```bash
"~/.claude/skills/gstack/bin/gstack-brain-sync" --discover-new 2>/dev/null || true
"~/.claude/skills/gstack/bin/gstack-brain-sync" --once 2>/dev/null || true
```


## Model-Specific Behavioral Patch (claude)（模型专属行为补丁）

以下 nudges 针对 claude model family 调整。它们**从属于** skill workflow、
STOP points、AskUserQuestion gates、plan-mode safety 和 /ship review gates。
如果下面的 nudge 与 skill instructions 冲突，以 skill 为准。把这些视为偏好，而不是规则。

**Todo-list discipline。** 处理 multi-step plan 时，每完成一个 task 就单独标记 complete。不要等到最后 batch-complete。如果某个 task 变得不必要，用一行 reason 标记 skipped。

**Think before heavy actions。** 对复杂操作（refactors、migrations、non-trivial new features），执行前简短说明 approach。这样用户可以低成本 course-correct，而不是等你做到一半才打断。

**Dedicated tools over Bash。** 优先使用 Read、Edit、Write、Glob、Grep，而不是 shell equivalents（cat、sed、find、grep）。Dedicated tools 更便宜、更清晰。

## Voice（语气）

直接、具体，builder-to-builder。说出 file、function、command 和 user-visible impact。不要 filler。

不要 em dashes。不要 AI vocabulary：delve、crucial、robust、comprehensive、nuanced、multifaceted。不要 corporate 或 academic。短段落。以接下来要做什么收尾。

用户拥有你没有的 context。Cross-model agreement 是 recommendation，不是 decision。由用户决定。

## Completion Status Protocol（完成状态协议）

完成 skill 工作流时，使用以下之一报告状态：
- **DONE** — 已完成，并附证据。
- **DONE_WITH_CONCERNS** — 已完成，但列出顾虑。
- **BLOCKED** — 无法继续；说明阻塞点和已尝试的操作。
- **NEEDS_CONTEXT** — 缺少信息；精确说明需要什么。

如果 3 次尝试失败、涉及不确定的安全敏感改动，或范围无法验证，则升级处理。格式：`STATUS`、`REASON`、`ATTEMPTED`、`RECOMMENDATION`。

## Operational Self-Improvement（操作自我改进）

完成前，如果你发现了可长期复用的项目 quirks 或命令修复、下次可节省 5 分钟以上，请记录：

```bash
~/.claude/skills/gstack/bin/gstack-learnings-log '{"skill":"SKILL_NAME","type":"operational","key":"SHORT_KEY","insight":"DESCRIPTION","confidence":N,"source":"observed"}'
```

不要记录显而易见的事实或一次性 transient errors。

## Telemetry (run last)（Telemetry，最后运行）

工作流完成后记录 telemetry。使用 frontmatter 中的 skill `name:`。OUTCOME 为 success/error/abort/unknown。

**PLAN MODE EXCEPTION — ALWAYS RUN:** 此命令把 telemetry 写入
`~/.gstack/analytics/`，与 preamble analytics 写入一致。

运行以下 bash：

```bash
_TEL_END=$(date +%s)
_TEL_DUR=$(( _TEL_END - _TEL_START ))
rm -f ~/.gstack/analytics/.pending-"$_SESSION_ID" 2>/dev/null || true
# Session timeline：记录 skill 完成情况（仅本地，绝不发送到任何地方）
~/.claude/skills/gstack/bin/gstack-timeline-log '{"skill":"SKILL_NAME","event":"completed","branch":"'$(git branch --show-current 2>/dev/null || echo unknown)'","outcome":"OUTCOME","duration_s":"'"$_TEL_DUR"'","session":"'"$_SESSION_ID"'"}' 2>/dev/null || true
# Local analytics（受 telemetry 设置控制）
if [ "$_TEL" != "off" ]; then
echo '{"skill":"SKILL_NAME","duration_s":"'"$_TEL_DUR"'","outcome":"OUTCOME","browse":"USED_BROWSE","session":"'"$_SESSION_ID"'","ts":"'$(date -u +%Y-%m-%dT%H:%M:%SZ)'"}' >> ~/.gstack/analytics/skill-usage.jsonl 2>/dev/null || true
fi
# Remote telemetry（opt-in，需要 binary）
if [ "$_TEL" != "off" ] && [ -x ~/.claude/skills/gstack/bin/gstack-telemetry-log ]; then
  ~/.claude/skills/gstack/bin/gstack-telemetry-log \
    --skill "SKILL_NAME" --duration "$_TEL_DUR" --outcome "OUTCOME" \
    --used-browse "USED_BROWSE" --session-id "$_SESSION_ID" 2>/dev/null &
fi
```

运行前替换 `SKILL_NAME`、`OUTCOME` 和 `USED_BROWSE`。

## Plan Status Footer（计划状态页脚）

运行 plan reviews 的 skills（`/plan-*-review`、`/codex review`）会在 skill 末尾包含 EXIT PLAN MODE GATE 阻塞 checklist；它会在调用 ExitPlanMode 前验证 plan file 以 `## GSTACK REVIEW REPORT` 结尾。不运行 plan reviews 的 skills（如 `/ship`、`/qa`、`/review` 这类 operational skills）通常不在 plan mode 中运行，也没有 review report 需要验证；此 footer 对它们是 no-op。写入 plan file 是 plan mode 中唯一允许的编辑。

# /benchmark-models — Cross-Model Skill Benchmark（跨模型 skill 基准测试）

你正在运行 `/benchmark-models` workflow。它用 interactive flow 包装
`gstack-model-benchmark` binary：选择 prompt、确认 providers、预览 auth，然后运行 benchmark。

它不同于 `/benchmark`：那个 skill 测量 web page performance（Core Web Vitals、load times）。
此 skill 测量 gstack skills 或 arbitrary prompts 上的 AI model performance。

---

## Step 0：Locate the binary（定位 binary）

```bash
BIN="$HOME/.claude/skills/gstack/bin/gstack-model-benchmark"
[ -x "$BIN" ] || BIN=".claude/skills/gstack/bin/gstack-model-benchmark"
[ -x "$BIN" ] || { echo "ERROR: gstack-model-benchmark not found. Run ./setup in the gstack install dir." >&2; exit 1; }
echo "BIN: $BIN"
```

如果找不到，停止并告诉用户重新安装 gstack。

---

## Step 1：选择 prompt

使用带 preamble format 的 AskUserQuestion：
- **Re-ground：** current project + branch。
- **Simplify：** "cross-model benchmark 会把同一个 prompt 跑过 2-3 个 AI models，并展示它们在 speed、cost 和 output quality 上的对比。我们应该用哪个 prompt？"
- **RECOMMENDATION：** 选择 A，因为用真实 skill benchmark 能暴露 tool-use differences，而不只是 raw generation。
- **选项：**
  - A) Benchmark 我的一个 gstack skill（下一步选择哪个 skill）。Completeness: 10/10.
  - B) 使用 inline prompt；下一轮输入。Completeness: 8/10.
  - C) 指向磁盘上的 prompt file；下一轮指定 path。Completeness: 8/10.

如果 A：列出有 SKILL.md files 的 top-level gstack skills（来自
`find . -maxdepth 2 -name SKILL.md -not -path './.*'`），通过第二个 AskUserQuestion
让用户选择。使用选中的 SKILL.md path 作为 prompt file。

如果 B：向用户索要 inline prompt。通过 `--prompt "<text>"` 原样使用。

如果 C：索要 path。验证它存在。作为 positional argument 使用。

---

## Step 2：选择 providers

```bash
"$BIN" --prompt "unused, dry-run" --models claude,gpt,gemini --dry-run
```

展示 dry-run output。"Adapter availability" section 会告诉用户哪些 providers 会实际运行（OK），
哪些会 skip（NOT READY，含 remediation hint）。

如果三个都显示 NOT READY：用清楚消息停止；没有至少一个 authed provider，benchmark 无法运行。
建议 `claude login`、`codex login`，或 `gemini login` / `export GOOGLE_API_KEY`。

如果至少一个 OK：AskUserQuestion：
- **Simplify：** "应该包含哪些 models？上面的 dry-run 已显示哪些已 authed。未 authed 的会 cleanly skip，不会 abort batch。"
- **RECOMMENDATION：** A（所有 authed providers），因为尽可能多跑能得到最丰富的 comparison。
- **选项：**
  - A) 所有 authed providers。Completeness: 10/10.
  - B) 只跑 Claude。Completeness: 6/10（没有 cross-model signal；solo claude benchmarks 请改用 /ship 的 review）。
  - C) 选两个；下一轮指定。Completeness: 8/10.

---

## Step 3：Decide on judge（决定是否启用 judge）

```bash
[ -n "$ANTHROPIC_API_KEY" ] || grep -q 'ANTHROPIC' "$HOME/.claude/.credentials.json" 2>/dev/null && echo "JUDGE_AVAILABLE" || echo "JUDGE_UNAVAILABLE"
```

如果 judge 可用，AskUserQuestion：
- **Simplify：** "quality judge 使用 Anthropic 的 Claude 作为 tiebreaker，按 0-10 分给每个 model output 评分。每次约增加 $0.05。如果你关心 output quality，而不只是 latency 和 cost，推荐开启。"
- **RECOMMENDATION：** A；重点是比较 quality，而不只是 speed。
- **选项：**
  - A) 启用 judge（增加约 $0.05）。Completeness: 10/10.
  - B) 跳过 judge；只看 speed/cost/tokens。Completeness: 7/10.

如果 judge 不可用，跳过此问题并省略 `--judge` flag。

---

## Step 4：Run the benchmark（运行 benchmark）

根据 Step 1、2、3 的 decisions 构造 command：

```bash
"$BIN" <prompt-spec> --models <picked-models> [--judge] --output table
```

其中 `<prompt-spec>` 可以是 `--prompt "<text>"`（Step 1B），也可以是 file path
（Step 1A 或 1C）；`<picked-models>` 是 Step 2 得到的 comma-separated list。

随着 output 到达进行 stream。这会比较慢；每个 provider 都会完整运行 prompt。
根据 prompt complexity 和是否开启 `--judge`，预计 30s-5min。

---

## Step 5：Interpret results（解读结果）

table 打印后，为用户 summarize：
- **Fastest** — latency 最低的 provider。
- **Cheapest** — cost 最低的 provider。
- **Highest quality**（如果运行了 `--judge`）— score 最高的 provider。
- **Best overall** — 使用 judgment。如果运行了 judge：quality-weighted。否则：说明用户需要取舍的 tradeoff。

如果任何 provider 遇到 error（auth/timeout/rate_limit），指出它并给出 remediation path。

---

## Step 6：提供保存结果

AskUserQuestion:
- **Simplify：** "要将这个 benchmark 保存为 JSON，方便未来 runs 与它对比吗？"
- **RECOMMENDATION：** A；providers 更新模型时，skill performance 会漂移，saved baseline 能捕捉 quality regressions。
- **选项：**
  - A) 保存到 `~/.gstack/benchmarks/<date>-<skill-or-prompt-slug>.json`。Completeness: 10/10.
  - B) 只打印，不保存。Completeness: 5/10（丢失 trend data）。

如果 A：用 `--output json` 重新运行，并 tee 到 dated file。打印 path，方便用户将 future runs 与它 diff。

---

## Important Rules（重要规则）

- **先 Step 2 dry-run，再 real benchmark。** 花费 API calls 前，用户需要看到 auth status。
- **Never hardcode model names。** 始终传入用户在 Step 2 选择的 providers；其余交给 binary 处理。
- **Never auto-include `--judge`。** 它会产生真实 cost；用户必须 opt in。
- **如果零 providers authed，STOP。** 不要尝试 benchmark；它不会产出有用 output。
- **Cost is visible。** 每次 run 都在 table 中显示 per-provider cost。用户应在下一次 run 前看到它。
