# Migrate Skill Caller to Claude Agent SDK Implementation Plan

> **For Claude:** REQUIRED SUB-SKILL: Use superpowers:executing-plans to implement this plan task-by-task.

**Goal:** 将现有的错误 subprocess 实现迁移到正确的 Claude Agent SDK 异步调用方式

**Architecture:** 使用 `claude_agent_sdk.query()` 函数和 `ClaudeAgentOptions` 配置来调用 `.claude/skills/` 目录下的自定义 skills。Skills 通过 Agent SDK 自动发现并在对话中被 Claude 调用。核心改动是将同步的 subprocess 调用改为异步的 Agent SDK 调用，保持对外接口兼容性。

**Tech Stack:**
- claude-agent-sdk (>=0.1.0)
- asyncio (Python 标准库)
- anthropic (>=0.69.0, 已安装)

---

## 前置检查

**验证环境变量:**
```bash
echo $ANTHROPIC_API_KEY
```
预期：显示有效的 API key（如未设置，在实施前需要配置）

**验证 Skills 目录结构:**
```bash
ls -la .claude/skills/
```
预期：看到 extract-survey-data/, check-data-quality/, suggest-data-filling/ 三个目录

---

## Task 1: 添加依赖包

**Files:**
- Modify: `requirements.txt`

**Step 1: 添加 claude-agent-sdk 依赖**

在 `requirements.txt` 末尾添加：

```txt
claude-agent-sdk>=0.1.0
```

**Step 2: 安装新依赖**

Run: `pip install claude-agent-sdk`
Expected: Successfully installed claude-agent-sdk

**Step 3: 验证安装**

Run: `pip show claude-agent-sdk`
Expected: 显示包信息（名称、版本、位置等）

**Step 4: Commit**

```bash
git add requirements.txt
git commit -m "deps: add claude-agent-sdk for skill invocation"
```

---

## Task 2: 重写 SkillCaller - 核心实现（TDD）

**Files:**
- Modify: `core/skill_caller.py`
- Modify: `tests/unit/test_skill_caller.py`

### Step 1: 编写失败测试 - 异步初始化

在 `tests/unit/test_skill_caller.py` 顶部添加导入：

```python
import asyncio
import os
from unittest.mock import patch, AsyncMock, MagicMock
```

在文件末尾添加新测试：

```python
@pytest.mark.asyncio
async def test_skill_caller_async_initialization():
    """测试异步 SkillCaller 初始化"""
    with patch.dict(os.environ, {'ANTHROPIC_API_KEY': 'test-key'}):
        caller = SkillCaller(timeout=300)
        assert caller.timeout == 300
        assert caller.api_key == 'test-key'
        assert caller.project_root is not None


@pytest.mark.asyncio
async def test_skill_caller_missing_api_key():
    """测试缺失 API key 时抛出错误"""
    with patch.dict(os.environ, {}, clear=True):
        with pytest.raises(SkillError) as exc_info:
            SkillCaller()
        assert "ANTHROPIC_API_KEY" in str(exc_info.value)
```

### Step 2: 运行测试验证失败

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/unit/test_skill_caller.py::test_skill_caller_async_initialization -v`
Expected: FAIL (SkillCaller 还没有 api_key 和 project_root 属性)

### Step 3: 实现基础 SkillCaller 类

重写 `core/skill_caller.py`:

```python
"""Skill 调用封装（使用 Claude Agent SDK）

提供统一的 Skill 调用接口，使用异步方式调用 Claude Agent SDK
"""
import os
import asyncio
from pathlib import Path
from typing import Optional, Dict, Any, List
from claude_agent_sdk import query, ClaudeAgentOptions


class SkillError(Exception):
    """Skill 调用错误"""
    pass


class SkillCaller:
    """Skill 调用器（基于 Claude Agent SDK）"""

    def __init__(
        self,
        timeout: int = 300,
        api_key: Optional[str] = None,
        project_root: Optional[Path] = None
    ):
        """初始化 Skill 调用器

        Args:
            timeout: 调用超时时间(秒)
            api_key: Anthropic API Key，如果不提供则从环境变量读取
            project_root: 项目根目录，包含 .claude/skills/ 目录

        Raises:
            SkillError: API key 未配置
        """
        self.timeout = timeout
        self.api_key = api_key or os.getenv('ANTHROPIC_API_KEY')

        if not self.api_key:
            raise SkillError(
                "ANTHROPIC_API_KEY 环境变量未设置。\n"
                "请设置: export ANTHROPIC_API_KEY='your-api-key'"
            )

        # 确定项目根目录
        if project_root:
            self.project_root = Path(project_root).resolve()
        else:
            # 默认：从当前文件向上两级（core/ -> 项目根）
            self.project_root = Path(__file__).parent.parent.resolve()

        # 验证 skills 目录存在
        self.skills_dir = self.project_root / ".claude" / "skills"
        if not self.skills_dir.exists():
            raise SkillError(
                f"Skills 目录不存在: {self.skills_dir}\n"
                f"项目根目录: {self.project_root}"
            )

    def call_skill(
        self,
        skill_name: str,
        *args,
        check_output: bool = True
    ) -> Optional[str]:
        """调用 Claude Skill（同步包装器）

        Args:
            skill_name: Skill 名称 (如 "extract-survey-data")
            *args: Skill 参数（文件路径等）
            check_output: 是否检查输出文件

        Returns:
            Skill 的执行结果文本

        Raises:
            SkillError: Skill 调用失败
        """
        # 在新的事件循环中运行异步调用
        try:
            loop = asyncio.get_event_loop()
        except RuntimeError:
            loop = asyncio.new_event_loop()
            asyncio.set_event_loop(loop)

        return loop.run_until_complete(
            self._call_skill_async(skill_name, *args, check_output=check_output)
        )

    async def _call_skill_async(
        self,
        skill_name: str,
        *args,
        check_output: bool = True
    ) -> Optional[str]:
        """调用 Claude Skill（异步实现）

        Args:
            skill_name: Skill 名称
            *args: Skill 参数
            check_output: 是否检查输出文件

        Returns:
            Skill 执行结果

        Raises:
            SkillError: Skill 调用失败
        """
        # 检查 Skill 是否存在
        skill_path = self.skills_dir / skill_name
        skill_md = skill_path / "SKILL.md"

        # 兼容旧版单文件格式
        if not skill_md.exists():
            skill_md_old = self.skills_dir / f"{skill_name}.md"
            if not skill_md_old.exists():
                raise SkillError(f"Skill not found: {skill_name}")

        # 构建提示词
        prompt = self._build_prompt(skill_name, *args)

        # 配置 Agent SDK
        options = ClaudeAgentOptions(
            cwd=str(self.project_root),
            setting_sources=["user", "project"],
            allowed_tools=["Skill", "Read", "Write", "Bash"],
            api_key=self.api_key,
            max_tokens=4096
        )

        # 调用 Agent SDK
        result_messages = []
        try:
            async for message in query(prompt=prompt, options=options):
                result_messages.append(str(message))

        except Exception as e:
            raise SkillError(f"Skill '{skill_name}' 执行出错: {str(e)}") from e

        # 合并结果
        result_text = "\n".join(result_messages)

        # 检查输出文件（如果需要）
        if check_output and len(args) >= 2:
            output_file = Path(args[-1])
            if not output_file.exists():
                raise SkillError(
                    f"Skill 执行完成，但未生成预期的输出文件: {output_file}"
                )

        return result_text

    def _build_prompt(self, skill_name: str, *args) -> str:
        """构建 Skill 调用提示词

        根据不同的 skill 构建合适的提示词
        """
        if skill_name == "extract-survey-data":
            if len(args) < 2:
                raise SkillError(
                    "extract-survey-data 需要2个参数: 输入Excel路径, 输出JSON路径"
                )
            return (
                f"请使用 extract-survey-data skill 从调研表中提取数据。\n"
                f"输入文件: {args[0]}\n"
                f"输出文件: {args[1]}\n"
                f"请确保输出为有效的 JSON 格式。"
            )

        elif skill_name == "check-data-quality":
            if len(args) < 2:
                raise SkillError(
                    "check-data-quality 需要2个参数: 提取数据JSON路径, 输出报告路径"
                )
            return (
                f"请使用 check-data-quality skill 检查数据质量。\n"
                f"输入文件: {args[0]}\n"
                f"输出文件: {args[1]}\n"
                f"请生成包含完整率、置信度和问题列表的质量报告。"
            )

        elif skill_name == "suggest-data-filling":
            if len(args) < 3:
                raise SkillError(
                    "suggest-data-filling 需要3个参数: "
                    "提取数据路径, 质量报告路径, 输出建议路径"
                )
            return (
                f"请使用 suggest-data-filling skill 生成数据填充建议。\n"
                f"提取数据文件: {args[0]}\n"
                f"质量报告文件: {args[1]}\n"
                f"输出文件: {args[2]}\n"
                f"请基于季节模式和插值法提供智能填充建议。"
            )

        else:
            # 通用提示词
            params_str = ', '.join(str(arg) for arg in args)
            return (
                f"请使用 {skill_name} skill 完成任务。\n"
                f"参数: {params_str}"
            )
```

### Step 4: 运行测试验证通过

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/unit/test_skill_caller.py::test_skill_caller_async_initialization -v`
Expected: PASS

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/unit/test_skill_caller.py::test_skill_caller_missing_api_key -v`
Expected: PASS

### Step 5: Commit

```bash
git add core/skill_caller.py tests/unit/test_skill_caller.py
git commit -m "feat: reimplement SkillCaller using Claude Agent SDK

- Replace subprocess-based implementation with async Agent SDK
- Add proper API key validation
- Add project root auto-detection
- Maintain backward-compatible synchronous interface"
```

---

## Task 3: 添加集成测试（需要 API key）

**Files:**
- Create: `tests/integration/test_skill_integration.py`

### Step 1: 编写集成测试框架

创建 `tests/integration/test_skill_integration.py`:

```python
"""Skill 集成测试（需要有效的 ANTHROPIC_API_KEY）"""
import pytest
import os
import json
from pathlib import Path
from core.skill_caller import SkillCaller, SkillError


@pytest.mark.skipif(
    not os.getenv('ANTHROPIC_API_KEY'),
    reason="需要 ANTHROPIC_API_KEY 环境变量"
)
@pytest.mark.integration
class TestSkillIntegration:
    """Skills 集成测试（真实 API 调用）"""

    @pytest.fixture
    def skill_caller(self):
        """创建 SkillCaller 实例"""
        project_root = Path(__file__).parent.parent.parent
        return SkillCaller(timeout=300, project_root=project_root)

    @pytest.fixture
    def tmp_output_dir(self, tmp_path):
        """创建临时输出目录"""
        output_dir = tmp_path / "output"
        output_dir.mkdir()
        return output_dir

    def test_extract_survey_data_skill_real_call(
        self, skill_caller, tmp_output_dir
    ):
        """测试真实调用 extract-survey-data skill"""
        # 使用样例文件
        survey_file = "00_sample/02-中央空调节能调研表（首页含问题指引）-工业板块.xlsx"
        output_file = tmp_output_dir / "extracted_data.json"

        # 检查样例文件是否存在
        if not Path(survey_file).exists():
            pytest.skip(f"样例文件不存在: {survey_file}")

        # 调用 skill
        result = skill_caller.call_skill(
            "extract-survey-data",
            str(survey_file),
            str(output_file)
        )

        # 验证输出文件生成
        assert output_file.exists(), "输出文件应该被创建"

        # 验证 JSON 格式
        with open(output_file, 'r', encoding='utf-8') as f:
            data = json.load(f)

        # 验证必要字段
        assert "project_region" in data
        assert "monthly_data" in data
        assert isinstance(data["monthly_data"], list)

    def test_skill_not_found_error(self, skill_caller):
        """测试调用不存在的 skill"""
        with pytest.raises(SkillError) as exc_info:
            skill_caller.call_skill("non-existent-skill", "arg1")

        assert "Skill not found" in str(exc_info.value)
```

### Step 2: 添加 pytest marker 配置

在 `pytest.ini` 中添加：

```ini
markers =
    integration: marks tests as integration tests (deselect with '-m "not integration"')
```

### Step 3: 运行单元测试（不包括集成测试）

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/unit/ -v`
Expected: 所有单元测试通过

### Step 4: （可选）运行集成测试

仅在有 API key 时运行：

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/integration/ -v -m integration`
Expected: 集成测试通过（如果 API key 有效）

### Step 5: Commit

```bash
git add tests/integration/test_skill_integration.py pytest.ini
git commit -m "test: add integration tests for Agent SDK skill calling

- Add real API call tests (requires ANTHROPIC_API_KEY)
- Add pytest integration marker
- Skip integration tests when API key not available"
```

---

## Task 4: 更新现有测试以兼容新实现

**Files:**
- Modify: `tests/unit/test_skill_caller.py`

### Step 1: 更新旧测试用例

修改 `tests/unit/test_skill_caller.py` 中的旧测试：

```python
"""测试 Skill 调用封装"""
import pytest
import asyncio
import os
from pathlib import Path
from unittest.mock import patch, AsyncMock, MagicMock
from core.skill_caller import SkillCaller, SkillError


def test_skill_caller_initialization():
    """测试 SkillCaller 初始化"""
    with patch.dict(os.environ, {'ANTHROPIC_API_KEY': 'test-key'}):
        caller = SkillCaller(timeout=300)
        assert caller.timeout == 300


def test_call_skill_with_invalid_name():
    """测试调用不存在的 Skill"""
    with patch.dict(os.environ, {'ANTHROPIC_API_KEY': 'test-key'}):
        caller = SkillCaller()

        with pytest.raises(SkillError) as exc_info:
            caller.call_skill("non-existent-skill", "arg1")

        assert "Skill not found" in str(exc_info.value)


def test_skill_caller_missing_api_key():
    """测试缺失 API key 时抛出错误"""
    with patch.dict(os.environ, {}, clear=True):
        with pytest.raises(SkillError) as exc_info:
            SkillCaller()
        assert "ANTHROPIC_API_KEY" in str(exc_info.value)


def test_project_root_detection():
    """测试项目根目录自动检测"""
    with patch.dict(os.environ, {'ANTHROPIC_API_KEY': 'test-key'}):
        caller = SkillCaller()
        assert caller.project_root.exists()
        assert (caller.project_root / ".claude" / "skills").exists()


def test_build_prompt_extract_survey_data():
    """测试构建数据提取提示词"""
    with patch.dict(os.environ, {'ANTHROPIC_API_KEY': 'test-key'}):
        caller = SkillCaller()
        prompt = caller._build_prompt(
            "extract-survey-data",
            "input.xlsx",
            "output.json"
        )

        assert "extract-survey-data" in prompt
        assert "input.xlsx" in prompt
        assert "output.json" in prompt


def test_build_prompt_insufficient_args():
    """测试参数不足时抛出错误"""
    with patch.dict(os.environ, {'ANTHROPIC_API_KEY': 'test-key'}):
        caller = SkillCaller()

        with pytest.raises(SkillError) as exc_info:
            caller._build_prompt("extract-survey-data", "only-one-arg")

        assert "需要2个参数" in str(exc_info.value)
```

### Step 2: 删除过时的测试

删除 `test_call_extract_survey_data_skill` 测试（已被集成测试取代）

### Step 3: 运行所有单元测试

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/unit/ -v`
Expected: 所有测试通过

### Step 4: Commit

```bash
git add tests/unit/test_skill_caller.py
git commit -m "test: update unit tests for new Agent SDK implementation

- Add API key mocking to all tests
- Test project root detection
- Test prompt building logic
- Remove deprecated test cases"
```

---

## Task 5: 更新配置和文档

**Files:**
- Modify: `CLAUDE.md`
- Create: `.env.example`
- Modify: `README.md`

### Step 1: 创建环境变量示例文件

创建 `.env.example`:

```bash
# Anthropic API Key for Claude Agent SDK
# 获取方式: https://console.anthropic.com/settings/keys
ANTHROPIC_API_KEY=<your-anthropic-api-key>
```

### Step 2: 更新 .gitignore

在 `.gitignore` 中确保有以下行（如果没有则添加）:

```
.env
```

### Step 3: 更新 CLAUDE.md

在 `CLAUDE.md` 的 "常用命令" 部分更新 Skill 调用说明：

```markdown
### Skill 调用

**前置要求：**
```bash
# 设置 API Key
export ANTHROPIC_API_KEY='your-api-key-here'
```

**在 Python 代码中调用（推荐）：**
```python
from core.skill_caller import SkillCaller

caller = SkillCaller(timeout=300)
result = caller.call_skill(
    "extract-survey-data",
    "input.xlsx",
    "output.json"
)
```

**特性：**
- 使用 Claude Agent SDK 进行异步调用
- 自动发现 `.claude/skills/` 目录下的 skills
- 支持超时控制和错误处理
- 保持向后兼容的同步接口
```

### Step 4: 更新 README.md

在 `README.md` 的 "前置要求" 部分添加：

```markdown
### 环境变量

**必需配置：**
```bash
export ANTHROPIC_API_KEY='your-api-key-here'
```

获取 API Key: https://console.anthropic.com/settings/keys
```

### Step 5: Commit

```bash
git add .env.example .gitignore CLAUDE.md README.md
git commit -m "docs: update documentation for Agent SDK migration

- Add .env.example for API key configuration
- Update CLAUDE.md with new skill calling method
- Add API key setup instructions to README.md
- Ensure .env is in .gitignore"
```

---

## Task 6: 向后兼容性验证

**Files:**
- Create: `tests/integration/test_backward_compatibility.py`

### Step 1: 编写向后兼容性测试

创建 `tests/integration/test_backward_compatibility.py`:

```python
"""测试向后兼容性 - 确保 app.py 中的调用方式仍然有效"""
import pytest
import os
from pathlib import Path
from core.skill_caller import SkillCaller, SkillError


@pytest.mark.skipif(
    not os.getenv('ANTHROPIC_API_KEY'),
    reason="需要 ANTHROPIC_API_KEY 环境变量"
)
@pytest.mark.integration
class TestBackwardCompatibility:
    """测试新实现与现有代码的兼容性"""

    def test_app_py_usage_pattern(self):
        """测试 app.py 中的调用模式仍然有效"""
        # 这是 app.py 中的实际调用方式
        caller = SkillCaller(timeout=300)

        # 验证初始化成功
        assert caller is not None
        assert caller.timeout == 300

    def test_exception_type_compatibility(self):
        """测试异常类型保持一致"""
        caller = SkillCaller(timeout=300)

        # 应该抛出 SkillError（不是其他类型）
        with pytest.raises(SkillError):
            caller.call_skill("non-existent-skill", "arg1")

    def test_return_type_compatibility(self):
        """测试返回类型（应该是字符串或 None）"""
        # Mock 测试，不实际调用 API
        caller = SkillCaller(timeout=300)

        # _build_prompt 应该返回字符串
        prompt = caller._build_prompt(
            "extract-survey-data",
            "input.xlsx",
            "output.json"
        )
        assert isinstance(prompt, str)
```

### Step 2: 运行向后兼容性测试

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/integration/test_backward_compatibility.py -v`
Expected: 所有测试通过

### Step 3: Commit

```bash
git add tests/integration/test_backward_compatibility.py
git commit -m "test: add backward compatibility verification

- Ensure app.py calling pattern still works
- Verify exception types remain consistent
- Test return type compatibility"
```

---

## Task 7: 最终验证和清理

### Step 1: 运行完整测试套件

Run: `PYTHONPATH=/home/zack/lingzhi_apps/conditioner_saving pytest tests/ -v -m "not integration"`
Expected: 所有单元测试通过

### Step 2: 验证 Streamlit 应用仍可启动

Run: `streamlit run app.py --server.headless=true &`
Wait: 3秒
Run: `curl http://localhost:8501`
Expected: 返回 HTML 内容（应用正常启动）
Run: `pkill -f streamlit`

### Step 3: 检查代码质量

Run: `python -m py_compile core/skill_caller.py`
Expected: 无语法错误

### Step 4: 更新实施总结

在 `IMPLEMENTATION_SUMMARY.md` 末尾添加：

```markdown
## 2025-12-24: Skill 调用机制迁移

**改动：**
- 将 `core/skill_caller.py` 从错误的 subprocess 实现迁移到 Claude Agent SDK
- 添加 `claude-agent-sdk` 依赖
- 更新测试套件，添加集成测试
- 更新文档和配置说明

**技术细节：**
- 使用 `claude_agent_sdk.query()` 和 `ClaudeAgentOptions`
- Skills 通过 `setting_sources=["user", "project"]` 自动发现
- 保持同步接口向后兼容（内部使用 asyncio）
- API key 通过环境变量 `ANTHROPIC_API_KEY` 配置

**影响范围：**
- 核心模块：`core/skill_caller.py` (完全重写)
- 测试：新增集成测试，更新单元测试
- 文档：README.md, CLAUDE.md, .env.example

**验证：**
- ✅ 所有单元测试通过
- ✅ Streamlit 应用正常启动
- ✅ 向后兼容性验证通过
```

### Step 5: 最终提交

```bash
git add IMPLEMENTATION_SUMMARY.md
git commit -m "docs: add implementation summary for Skill caller migration"
```

---

## 验收标准

完成后应满足：

1. **功能完整性：**
   - ✅ `SkillCaller` 使用 Claude Agent SDK 调用 skills
   - ✅ 支持三个现有 skills: extract-survey-data, check-data-quality, suggest-data-filling
   - ✅ 正确处理超时和错误

2. **代码质量：**
   - ✅ 所有单元测试通过（不依赖 API key）
   - ✅ 集成测试可运行（需要 API key）
   - ✅ 向后兼容现有 app.py 调用方式

3. **文档完整性：**
   - ✅ CLAUDE.md 更新了 skill 调用说明
   - ✅ README.md 添加了 API key 配置说明
   - ✅ .env.example 提供了环境变量模板

4. **依赖管理：**
   - ✅ requirements.txt 包含 claude-agent-sdk
   - ✅ .gitignore 排除 .env 文件

---

## 回滚计划（如果出现问题）

如果新实现有问题，可以快速回滚：

```bash
# 回到迁移前的提交
git log --oneline | head -20  # 找到 "deps: add claude-agent-sdk" 之前的提交
git revert <commit-hash>..HEAD  # 回滚所有迁移相关提交

# 或者保留旧代码作为备份
cp core/skill_caller.py core/skill_caller_backup.py
git checkout HEAD~7 -- core/skill_caller.py  # 恢复到7个提交之前
```

---

## 注意事项

1. **API Key 安全：**
   - ⚠️ 永远不要提交 .env 文件
   - ⚠️ 生产环境使用环境变量而非 .env 文件
   - ⚠️ 定期轮换 API key

2. **成本控制：**
   - 每次 skill 调用都会产生 API 费用
   - 建议在开发时设置 `max_tokens` 限制
   - 监控 API 使用量

3. **异步处理：**
   - 虽然对外是同步接口，但内部使用 asyncio
   - 在已有事件循环的环境中可能需要特殊处理
   - Streamlit 环境下测试良好

4. **Linux 兼容性：**
   - Agent SDK 在 Linux 上可能有路径发现问题
   - 通过显式指定 `cwd` 参数解决
   - 已在计划中处理

---

## 下一步（可选优化）

完成基础迁移后，可以考虑：

1. **性能优化：**
   - 添加结果缓存机制
   - 实现批量调用支持
   - 优化提示词以减少 token 消耗

2. **功能增强：**
   - 支持流式输出
   - 添加进度回调
   - 实现重试机制

3. **监控和日志：**
   - 添加 API 调用日志
   - 监控成本和性能指标
   - 错误追踪和告警

---

**计划创建时间：** 2025-12-24
**预计完成时间：** 2-3 小时（根据 API 调用速度）
**风险等级：** 中等（需要 API key 和网络连接）
