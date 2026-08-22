# dsh-vision —— 给纯文本模型自动配眼

> **⚠️ 依赖提示:本插件需要搭配 [uiopt](https://github.com/237229953-create/uiopt) 项目一起使用。**
> 视觉模型的图形化配置界面(视觉模型下拉、输出上限、模式、超时)由 uiopt 的"额外插件 → 可配置插件"标签页承载;未安装 uiopt 时,只能通过 `settings.yaml` 手动配置,且无法在界面中切换视觉模型。

让 DeepSeek-V4 这类纯文本模型在 dsh 里"看到"图片:图片消息自动桥接为视觉模型生成的文字描述,原图保留在人类转录中。零新增凭据 —— 视觉模型复用 profile 已配置的 `llm-pi-ai` 路由(默认 `opencode-go / minimax-m3`,与主模型同一把 key)。

## 原理(全部基于 dsh 官方机制,零 hack)

1. 包装 `llm/stream` 的 `streamWithRegistration` 方法:请求含 image 块且目标模型未声明 image 输入时触发(适配器层之前的准入门禁由 resolveModelInfo 包装放行,二者联动);
2. 用视觉模型把图片转为文字描述(描述带"识图结果"身份标记,主模型明确知道内容来自识图模型);
3. 把描述作为一条 `user/message` surface-replace 事件 append 进会话日志(与 compaction 压缩历史同款机制)——**只对模型可见,人类转录保留原图**;
4. 本次请求用同一份描述改写后放行,首轮即成功;模型调用 `read_image` 等工具返回的嵌套图片同样被递归识别改写;
5. 替换事件落库后,后续每轮历史投影天然给出稳定文本:网关前缀缓存与普通文本会话完全等价(历史全命中,仅新消息 miss)。

## 安装

```powershell
# 1. 接线到 profile(把本地目录作为 link 依赖加入 bundle,依赖自动 reconcile 进层栈)
dsh plugin --profile web add link:D:/dsh-plugins/dsh-vision

# 2. 重启 dsh web 后验证挂载
dsh --profile web --dump-config | Select-String dsh-vision
```

## 配置(官方 settings 通道,热生效)

**界面方式(需 uiopt)**:设置 → 插件 → 额外插件 → 可配置插件 → 展开 **dsh-vision** 卡片:
- **视觉模型下拉**:自动枚举当前所有 provider 中声明 `[text, image]` 输入的模型(按提供方分组);
- 高级字段:输出上限、模式(auto/manual/both)、超时。

保存后写入 `settings.yaml` 的 `dsh-vision` 分节(与 `llm-pi-ai` 同款官方通道),下一次识图立即生效。

**文件方式**(组合层默认值,见 bundle 自带 `cordis.patch.yml`):

```yaml
- insert:
    - id: dsh-vision
      name: dsh-vision
      config:
        provider: opencode-go   # 视觉模型路由(复用已配置的 key)
        model: minimax-m3       # 快(~3s)且便宜;可选 kimi-k2.7-code / qwen3.6-plus / kimi-k3 / qwen3.7-plus / mimo-v2.5 / grok-4.5
        maxTokens: 4096         # 描述输出上限
        mode: both              # auto=仅自动桥 | manual=仅 see_image 工具 | both=两者
        timeoutMs: 60000        # 视觉调用超时
```

> 配置解析顺序:patch 的 `config`(组合层 base)→ `settings.yaml` 用户层,后者优先;字段级覆盖,热生效。
> 说明:官方"插件配置"标签页只服务 dsh 仓库内白名单命名空间(apiproxy),第三方插件的配置 UI 由 uiopt 的"额外插件"卡片承载,数据通道仍是官方 settings seam。

## 行为说明

- **自动桥**:图片出现在纯文本模型的请求中时自动转换,无需模型或用户做任何事;
- **原生看图优先**:当前模型自身支持 image(如 `kimi-k3`)时插件完全不干预;
- **`see_image` 工具**:手动/追问入口,`file_path` + 可选 `question`;
- **缓存**:描述固化在日志,历史前缀缓存与文本会话等价;新图首次出现按未命中价计费一次(与发送新消息相同);
- **失败语义**:视觉调用失败时本次请求仍成功(图片位置为"解析失败"占位),且不固化,下次自动重试;
- **成本**:视觉调用不进入会话 usage 统计(绕过 agent loop 记录路径),缓存命中后趋零;图片描述通常几百 token,按视觉模型单价计。

## 限制

- 依赖 dsh 预览版 API(`llm/stream` waterfall、surface replace、`foldSurface`),rc 升级若改签名需同步更新;
- 图片位于历史中部首次出现时,该轮从图片处起前缀缓存失效一次,之后恢复(前缀缓存固有特性);
- 视觉模型必须真实支持图片输入,配置错误会导致占位文本(不会死循环)。
