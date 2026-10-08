window.portfolioDataFallback = {
  "page": {
    "metaTitle": "MimiQuark 工程笔记 | 问题排查与项目复盘",
    "metaDescription": "记录工业 AI、数据工程与 LLM 应用中的问题排查、方案取舍和工程复盘。",
    "heroEyebrow": "DATA × LLM ENGINEERING",
    "heroTitleLead": "把数据和模型，",
    "heroTitleAccent": "做成可复现、可评测的工程。",
    "projectsButtonLabel": "浏览项目",
    "notesButtonLabel": "阅读经验总结",
    "projectsEyebrow": "01 / PROJECTS",
    "projectsTitle": "项目记录",
    "projectsIntro": "围绕多模态数据、模型评测和工程落地，记录每个项目的真实问题、方案与结果。",
    "notesEyebrow": "02 / NOTES",
    "notesTitle": "经验总结",
    "notesIntro": "不只写结论，也记录数据为什么失真、评测如何设计，以及问题最终怎样复现和修复。",
    "blogName": "MimiQuark 工程笔记",
    "adminUrl": "https://app.pagescms.org/MimiQuark/MimiQuark.github.io/main",
    "profile": {
      "displayName": "MimiQuark",
      "coverImage": "",
      "status": "持续更新",
      "stats": [
        {
          "label": "总访问量",
          "value": "0",
          "source": "visits"
        },
        {
          "label": "篇复盘",
          "value": "9"
        },
        {
          "label": "个项目归档",
          "value": "6"
        },
        {
          "label": "个分类",
          "value": "7"
        }
      ],
      "interests": [
        {
          "title": "大模型应用",
          "tags": [
            "LLM",
            "RAG",
            "LangGraph",
            "Agent 评测"
          ]
        },
        {
          "title": "数据工程",
          "tags": [
            "SFT",
            "数据质量",
            "多模态清洗",
            "自动审计"
          ]
        },
        {
          "title": "工业 AI",
          "tags": [
            "缺陷检测",
            "图像增广",
            "计算机视觉",
            "小目标"
          ]
        }
      ],
      "visitCounter": {
        "namespace": "mimiquark",
        "key": "tech-blog-visits",
        "endpoint": "https://counterapi.com/api/{namespace}/{key}",
        "fallback": 0
      }
    },
    "feed": {
      "notesTabLabel": "最新文章",
      "projectsTabLabel": "项目记录",
      "emptyText": "没有找到匹配内容"
    },
    "cover": {
      "theme": "aurora"
    },
    "labels": {
      "githubButton": "查看 GitHub",
      "adminButton": "维护内容",
      "interestsTitle": "写作方向"
    }
  },
  "projects": [
    {
      "id": "focus-stylegan-augmentation",
      "number": "01",
      "title": "基于 Focus-StyleGAN 的工业缺陷图像增广系统",
      "type": "本科毕业设计 / 生成式视觉",
      "role": "独立完成",
      "period": "本科毕业设计",
      "stack": ["PyTorch", "Focus-StyleGAN", "WGAN-GP", "AdaIN", "CBAM", "Optuna", "Flask", "MVTec AD"],
      "summary": "面向工业异常检测中的缺陷样本稀缺问题，设计双分支解耦生成器，将缺陷生成与背景保持分开建模，并通过注意力融合和多尺度判别器生成可控伪异常图像。",
      "challenge": [
        "工业缺陷样本稀少，传统几何变换无法生成新的缺陷形态。",
        "单分支生成器需要同时学习缺陷纹理和产品背景，容易出现背景扭曲。",
        "微小、低对比度缺陷难以被单尺度判别器有效识别。"
      ],
      "solution": [
        "设计缺陷聚焦分支和背景保持分支，并引入 AdaIN 进行风格控制。",
        "使用注意力引导融合模块消除拼接痕迹，使缺陷与背景过渡自然。",
        "构建三尺度 PatchGAN 判别器，并在特征层中嵌入 CBAM 注意力。",
        "联合 WGAN-GP、VGG19 感知损失、L1 重构损失和 LPIPS 约束训练过程。",
        "通过 Optuna 搜索生成器、判别器学习率和多项损失权重。"
      ],
      "impact": [
        "生成质量达到 FID 22.5、IS 2.9、LPIPS 0.18、PPS 0.79。",
        "将伪异常样本加入训练集后，PaDiM 的 Pixel-AUC 从 0.852 提升到 0.943。",
        "PRO-AUC 从 0.828 提升到 0.925，Cable 与 Capsule 等稀缺类别提升最明显。"
      ],
      "highlight": "双分支生成、注意力融合与下游增广验证",
      "detailMarkdown": "/public/projects/focus-stylegan-augmentation/README.md"
    },
    {
      "id": "industrial-sft-pipeline",
      "number": "02",
      "title": "面向工业质检的多模态 SFT 数据构建与质量过滤管线",
      "type": "扩展项目 / 多模态数据工程",
      "role": "扩展项目负责人 / 数据管线",
      "period": "2025.09 - 2026.09",
      "stack": ["Python", "MVTec AD", "Qwen-VL", "StyleGAN", "LLaMA-Factory", "MD5"],
      "summary": "在 Focus-StyleGAN 基础项目上扩展，从缺陷 mask 标注、VLM 自然语言改写，到合成数据生成、去重和质量评分，搭建可对接 LLaMA-Factory 的多模态 SFT 数据生产管线。",
      "challenge": [
        "基础项目能够生成伪异常图像，但生成图与结构化训练指令之间缺少稳定映射。",
        "dHash 去重误删 39% 样本，合成数据与真实数据的去重策略不能简单共用。",
        "生成图需要同时判断自然度、融合度和可用性，不能只靠人工抽查。",
        "生成数据缺少版本、校验和过滤记录，难以复核与回归。"
      ],
      "solution": [
        "复用 Focus-StyleGAN 作为图像来源，扩展为程序化标注、VLM 改写和标准 SFT 数据生成链路。",
        "基于 MVTec AD 的 ground-truth mask 提取缺陷结构，并通过 Qwen-VL 统一改写为自然语言 instruction。",
        "替换会产生误删的 dHash 方案，串联 MD5 精确去重、JSONL 校验、配置哈希和版本化目录。",
        "增加合成数据自然度、融合度和可用性评分，并设计真实图与生成图盲测对照实验。"
      ],
      "impact": [
        "在 15 个品类上产出 1725 条程序化模板样本。",
        "将误删 678 条样本的 dHash 方案替换为 MD5 精确去重，实现零误删。",
        "通过 133 张盲测样本验证过滤器区分度，并定位到生成器类别漂移导致的瓶身身份丢失。"
      ],
      "highlight": "在基础生成项目上扩展数据资产与质量评测",
      "detailMarkdown": "/public/projects/industrial-sft-pipeline/README.md"
    },
    {
      "id": "sft-audit-kit",
      "number": "03",
      "title": "SFT Audit Kit：多模态数据集质量审计工具",
      "type": "数据工程工具 / 质量门禁",
      "role": "独立开发",
      "period": "持续开发",
      "stack": ["Python", "Pillow", "JSONL", "MD5", "unittest", "HTML Report", "CI"],
      "summary": "把 SFT 数据管线中的质量检查抽象成通用工具，对数据格式、图片完整性、重复样本、ID 冲突、训练集泄漏和模板文本进行审计，并输出可追溯报告。",
      "challenge": [
        "多模态数据缺少统一结构，不同版本可能没有顶层 ID、类别或 split 字段。",
        "固定图片尺寸白名单会把 MVTec 等真实数据的合法尺寸误判为异常。",
        "重复文本和重复图片如果按记录逐条报告，会产生大量不可复核的噪声。",
        "数据发布前缺少自动质量门禁，问题往往到训练阶段才被发现。"
      ],
      "solution": [
        "支持必填字段校验，同时从图片路径和 meta.annotation 推导 ID、类别与 split。",
        "支持 manifest.json 或 --dataset-root 自动解析外部图片目录。",
        "使用完整图片解码和 MD5 精确去重，检查缺图、重复图片与 train/test 泄漏。",
        "按问题组聚合重复文本警告，并输出 HTML、JSON、CSV 三份报告。",
        "提供 --strict 模式，将 Error 转换为 CI 非零退出码。"
      ],
      "impact": [
        "在 1725 条真实 MVTec SFT 数据上完成完整审计，1725/1725 条无错误。",
        "识别 1725 张唯一图片，未发现缺图、重复图片、重复 ID 或数据泄漏。",
        "将 614 条图片尺寸误报降为 0，并将重复文本告警由逐条输出压缩为 116 个问题组。"
      ],
      "highlight": "数据发布质量门禁与可追溯审计报告",
      "detailMarkdown": "/public/projects/sft-audit-kit/README.md"
    },
    {
      "id": "agent-eval-workbench",
      "number": "04",
      "title": "Agent Eval Workbench：工具调用评测工作台",
      "type": "Agent 工程工具 / 可观测性",
      "role": "独立开发",
      "period": "持续开发",
      "stack": ["Python", "JSONL", "Tool Calling", "RAG Eval", "Parameter Eval", "HTML Report", "CI"],
      "summary": "把 Agent 评测从单一工具准确率扩展为工具、参数、RAG 引用、拒答、JSON、延迟和 token 七维评测，并支持多模型或 Prompt 横向对比。",
      "challenge": [
        "只比较工具名称，无法发现城市、污染物等参数传错。",
        "最终答案看似正确，但 RAG 引用可能不存在或并不完整。",
        "应拒答的问题可能仍然生成答案，错误拒答也缺少指标。",
        "模型原始 JSON 损坏时，只看工具调用结果会漏掉执行链路问题。",
        "不同模型和 Prompt 的结果难以使用同一套标准横向比较。"
      ],
      "solution": [
        "对工具集合执行顺序无关比较，并统计缺失工具和额外工具。",
        "增加参数级标注、字段归一化和匹配准确率。",
        "增加 RAG 引用完全匹配率、平均召回率和拒答准确率。",
        "校验 JSON 布尔标记或直接解析 raw 输出，统计结构化输出有效率。",
        "增加规则版与 LLM 版对比报告，以及 --fail-under CI 门禁。"
      ],
      "impact": [
        "使用 60 条真实空气质量案例复测，规则版 100%，LLM 版 96.7%。",
        "增强基准准确识别参数错误、引用缺失、拒答失败和无效 JSON。",
        "LLM 版 60 条真实结果的结构化输出有效率为 100%。"
      ],
      "highlight": "Agent 多层评测与回归质量门禁",
      "detailMarkdown": "/public/projects/agent-eval-workbench/README.md"
    },
    {
      "id": "air-quality-agent",
      "number": "05",
      "title": "多城市空气质量监测与智能问答 Agent",
      "type": "省级大创 / LLM Agent",
      "role": "核心成员 / Agent 与 RAG",
      "period": "2024.09 - 2025.06",
      "stack": ["LangGraph", "Pandas", "scikit-learn", "RAG", "Chroma", "MCP", "FastAPI", "SQLite", "Docker"],
      "summary": "基于 6 个城市 52,704 条小时级空气质量数据，构建覆盖实时查询、24h 预测、综合预警、相关性分析与政策检索的工具调用 Agent。",
      "challenge": [
        "空气质量数据存在缺失值、时间粒度和城市指标口径不一致的问题。",
        "工具数量达到 10 个后，规则和 LLM 都容易在相似问题上选错工具。",
        "RAG 回答需要引用政策条款，低置信时还要主动拒答，避免编造标准编号。",
        "问答链路缺少可追踪记录，bad case 难以定位和回归。"
      ],
      "solution": [
        "完成多城市数据清洗、时间对齐与指标口径统一，并训练随机森林预测模型。",
        "使用 LangGraph 构建 LLM Agent，同时保留规则版自动降级路径；通过 MCP 暴露 stdio 与 streamable-http 两种传输方式。",
        "将 10 个工具统一封装为结构化 Schema，并引入 RAG 引用溯源、低置信拒答和数据约束三层幻觉控制。",
        "设计覆盖 10 个工具、含 12 条易混淆样本的 60 条回归评测集，并迭代解决 12 条 bad case。",
        "用 SQLite 记录问题、工具调用、回答、延迟和 token，将 bad case 查找与回归验证流程闭环。"
      ],
      "impact": [
        "规则模式工具选择从 48/60 提升到 60/60，准确率 80% → 100%。",
        "LLM 模式工具选择从 49/60 提升到 58/60，准确率 81.7% → 96.7%，0 调用失败。",
        "Agent、RAG、日报和 MCP 服务通过 FastAPI、Docker 与 SQLite 完成落地。"
      ],
      "highlight": "工具调用评测、RAG 溯源与可观测性",
      "detailMarkdown": "/public/projects/air-quality-agent/README.md"
    },
    {
      "id": "pcba-defect-detection-yolov8",
      "number": "06",
      "title": "PCBA 五类缺陷检测：YOLOv8 全流程落地",
      "type": "工业视觉项目 / 模型训练与部署",
      "role": "独立完成（数据处理、训练评估、Web 演示、报告）",
      "period": "2026.10",
      "stack": ["Python", "YOLOv8", "Ultralytics", "PyTorch", "OpenCV", "Gradio", "ONNX Runtime", "Pytest", "GitHub Actions"],
      "summary": "在 600 张 PCBA 图像上完成 XML 转 YOLO、数据质量审计、960 输入训练、早停、独立测试集评估、ONNX 导出与 Gradio 部署。测试集 mAP50 87.94%、mAP50-95 53.13%，并把模型、指标、报告和可运行代码完整归档。",
      "challenge": [
        "原数据固定划分为 350/100/150，验证集与测试集来自不同编号区间，指标差异明显，说明划分可能混入批次或采集条件差异。",
        "缺陷目标普遍很小，框宽高约 24~139 像素；本机没有 NVIDIA GPU，只能用 4 核 8 线程 CPU 训练 960 输入。",
        "Gradio 的 numpy 输入是 RGB，而 Ultralytics ndarray 推理路径按 BGR 解释，通道不一致会静默降低置信度并造成漏检。",
        "open_solder 类别的 mAP50 为 82.07%，但 Recall 只有 54.59%，漏检是模型的主要短板。"
      ],
      "solution": [
        "逐图校验 XML 与图片对应关系、尺寸、类别和边界框，再转换为归一化 YOLO xywh，保留原始划分，避免重划分引入泄漏。",
        "采用 yolov8n.pt 预训练权重，以 960 输入、batch 2、40 轮、patience 10 训练；第 36 轮早停，最佳权重来自第 26 轮。",
        "训练阶段使用 HSV、水平翻转、旋转、平移、缩放和 Mosaic 在线增广，验证集与测试集不增广。",
        "封装统一 CLI 与 Gradio 入口，支持图片、视频和摄像头推理，输出类别统计、合格判定和 CSV 明细，并导出已验证的 FP32 ONNX。",
        "补充 pytest 和 GitHub Actions，对坐标转换、状态判定、CLI 命令和数据完整性做自动检查。"
      ],
      "impact": [
        "测试集 Precision 94.18%、Recall 77.42%、mAP50 87.94%、mAP50-95 53.13%。",
        "逐类别 mAP50：open_solder 82.07%、short 99.50%、skewing 80.54%、solder_bridge 99.03%、tombstoning 78.57%。",
        "修复 Web 端 RGB/BGR 不一致后，同一测试图从 4 个目标恢复为 7 个，与命令行结果一致。",
        "发布 best.pt、ONNX、逐类指标、混淆矩阵、训练曲线、Word/PDF 报告与可运行源码。"
      ],
      "highlight": "预训练强基线 + 独立测试评估 + 真实部署问题闭环",
      "detailMarkdown": "/public/projects/pcba-defect-detection-yolov8/README.md"
    }
  ],
  "notes": [
    {
      "id": "dhash-false-deletion",
      "number": "01",
      "category": "数据质量",
      "title": "dHash 去重误删 39%：合成数据去重方案复盘",
      "excerpt": "一次看似安全的图像去重，为什么会误删 678 条合成数据？问题不在去重本身，而在不同数据源的相似性定义。",
      "date": "2026.09.01",
      "readTime": "7 分钟",
      "coverImage": "",
      "lead": "合成图之间的像素相似，不代表语义相同；真实缺陷图之间的视觉差异，也不能简单用同一个阈值处理。",
      "sections": [
        {
          "heading": "问题背景",
          "content": "多模态 SFT 数据管线需要去除重复样本，最初使用 dHash 对真实缺陷图、真实正常图和生成图统一处理。上线检查时发现，去重结果中存在明显误删。"
        },
        {
          "heading": "错误现象",
          "content": "dHash 一共误删了 39% 的样本，共 678 条。被删除的图片并非完全重复，而是在低分辨率轮廓上相似。尤其对瓶身、轴承和密封圈等环形结构，哈希距离无法区分缺陷位置和类别身份。"
        },
        {
          "heading": "修复过程",
          "content": "我没有继续调整 dHash 阈值，而是先确认这份数据对去重的真实要求：同一文件重复必须删，视觉相似但语义不同的样本不能删。最终改为 MD5 精确去重，先保证工具链不会破坏有效样本。"
        },
        {
          "heading": "结果与复盘",
          "content": "改为 MD5 后实现零误删。这个问题的教训不是“dHash 不好”，而是去重规则必须服务数据目标。感知哈希适合近似图片检索，但不适合作为“是否应该保留训练样本”的唯一判断。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "agent-tool-evaluation",
      "number": "02",
      "category": "Agent 评测",
      "title": "60 条样本、10 个工具：工具调用 Agent 的评测集怎么设计",
      "excerpt": "只测最终回答是否正确，无法判断 Agent 是选错工具还是生成阶段出错。我们把评测拆到“工具选择”这一层。",
      "date": "2026.06.10",
      "readTime": "9 分钟",
      "coverImage": "",
      "lead": "工具调用 Agent 的第一道质量问题，不是答案像不像人写的，而是有没有调用正确的工具。",
      "sections": [
        {
          "heading": "为什么要单独评测工具选择",
          "content": "空气质量问答 Agent 包含查询、预测、预警和政策检索等 10 个工具。如果最终回答错误，可能是数据问题、工具选择错误，也可能是 RAG 或生成阶段的问题。只评估最终回答，无法定位故障层。"
        },
        {
          "heading": "评测集怎么设计",
          "content": "评测集包含 60 条问题，覆盖全部 10 个工具，并专门加入 12 条容易混淆的样本，例如查询历史空气质量与预测未来趋势、政策检索与一般知识回答。每条样本都标注期望工具和可接受工具集合。"
        },
        {
          "heading": "bad case 如何驱动迭代",
          "content": "第一轮先看规则模式与 LLM 模式各自的错误分布，发现主要问题集中在相似工具边界和开放式问题的回退策略。随后补充提示词约束、规则优先级和开放问题分支，共迭代三轮。"
        },
        {
          "heading": "结果与反思",
          "content": "规则模式从 80% 提升到 100%，LLM 模式从 81.7% 提升到 96.7%。比指标更重要的是，我们保留了一套可以重复运行的评测集，让后续修改 Prompt 或新增工具时能够快速发现回归。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "multimodal-sft-pipeline",
      "number": "03",
      "category": "SFT 数据",
      "title": "从 mask 到自然语言：多模态 SFT 数据管线如何搭建",
      "excerpt": "工业缺陷数据不只要“有图”，还要让缺陷位置、类别和语言描述形成一致结构。管线解决的是可生产、可验证和可复用。",
      "date": "2026.04.20",
      "readTime": "10 分钟",
      "coverImage": "",
      "lead": "SFT 数据集的质量，往往在模型训练前就已经决定了一半。",
      "sections": [
        {
          "heading": "为什么先处理结构化标注",
          "content": "MVTec AD 提供缺陷图像和 ground-truth mask。比起直接把整张图片交给 VLM 描述，先从 mask 中提取缺陷类别、位置和形态信息，可以让后续自然语言更稳定，也更容易检查标注一致性。"
        },
        {
          "heading": "VLM 改写与格式统一",
          "content": "结构化标注经过 Qwen-VL 改写为自然语言描述，再统一模板、字段和输出格式，最终产出可直接对接 LLaMA-Factory 的 SFT 数据。改写后还需要抽样验证，避免语言流畅但语义错误。"
        },
        {
          "heading": "合成数据质量过滤",
          "content": "训练 Focus-StyleGAN 生成缺陷样本后，不能只凭肉眼判断质量。管线对生成图做自然度、融合度和可用性评分，自动过滤低质量样本。通过评分理由的词频分析，我们发现部分样本虽然能通过过滤器，却全部指向环形部件，最终定位到生成器发生类别漂移、丢失瓶身身份。"
        },
        {
          "heading": "总结",
          "content": "一条可靠的 SFT 数据管线至少需要三件事：可追溯的标注结构、可量化的质量过滤、可复现的评测方式。只有把数据生产做成工程流程，模型迭代才不会依赖个人经验。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "sft-audit-1725",
      "number": "04",
      "category": "数据质量",
      "title": "1725 条 SFT 数据审计后，我保留了哪些质量门禁",
      "excerpt": "一次完整审计暴露出的问题不只有缺图，还包括重复 ID、跨集泄漏、尺寸误判和模板文本噪声。真正有用的是一组稳定的发布门禁。",
      "date": "2026.09.12",
      "readTime": "8 分钟",
      "coverImage": "",
      "lead": "数据规模越大，人工抽查越不能替代自动审计。",
      "sections": [
        {
          "heading": "为什么要做完整审计",
          "content": "我使用 SFT Audit Kit 对 1725 条真实 MVTec SFT 数据进行了完整审计。全部记录都能加载，图片完整可解码，也没有重复图片或 train/test 泄漏。但完整跑一遍仍然暴露了规则设计问题，说明小样本测试通过并不代表千条级数据可靠。"
        },
        {
          "heading": "第一版出现了哪些误报",
          "content": "最初把图片尺寸限制在 256、512、768、1024 等固定值，结果 614 张合法的 MVTec 原图被标记为异常。真实工业图片会出现 700、800、840、900、1000 等尺寸，工具不应该假设所有数据都已经被统一缩放。"
        },
        {
          "heading": "最终保留的门禁",
          "content": "现在的 Error 级别只保留会影响训练的确定性问题：JSON 无法解析、缺少核心字段、图片不存在或无法解码、重复 ID、字节级重复图片和 train/test 泄漏。图片尺寸改为下限和上限检查，模板文本重复作为 Warning 聚合展示。"
        },
        {
          "heading": "审计结果",
          "content": "最终 1725/1725 条记录无错误，1725 张图片全部唯一，0 个缺图、0 个重复图片、0 个 ID 冲突、0 个跨集泄漏。剩余 116 个 Warning 全部是模板文本完全重复，需要结合标注策略判断是否接受。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "agent-parameter-eval",
      "number": "05",
      "category": "Agent 评测",
      "title": "工具调用 Agent 的参数准确率应该怎么测",
      "excerpt": "工具名选对不等于调用正确。上海传成北京、PM2.5 传成 PM10，最终回答可能看起来合理，但执行链路已经错了。",
      "date": "2026.09.08",
      "readTime": "7 分钟",
      "coverImage": "",
      "lead": "工具选择是 Agent 的第一层正确性，参数准确率才是第二层。",
      "sections": [
        {
          "heading": "为什么只看工具名不够",
          "content": "在空气质量 Agent 中，get_forecast 可能被正确调用，但城市参数仍然可能是错误值。只比较工具名称会给出 100% 的工具准确率，却无法发现城市、污染物或时间范围传错。"
        },
        {
          "heading": "参数标注方式",
          "content": "每个案例增加 expected_params，按工具记录期望参数。例如 get_forecast 期望 city=beijing、pollutant=PM25。实际结果从 actual_calls[].params 读取，再对城市和污染物别名做归一化。"
        },
        {
          "heading": "增强基准结果",
          "content": "在 6 条增强案例中，工具选择准确率为 100%，但参数准确率只有 75%。这组数据故意包含了上海被传成北京的错误，说明工具层和参数层必须分开统计。"
        },
        {
          "heading": "下一步",
          "content": "参数评测还应继续支持数值区间、时间范围和多层嵌套结构。对于更复杂的 Agent，还需要区分“参数完全正确”“参数部分正确”和“使用了默认值”三种情况。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "fid-not-usable",
      "number": "06",
      "category": "项目复盘",
      "title": "为什么 FID 下降不等于合成数据可用",
      "excerpt": "统计分布变接近，并不代表生成图还保留了业务语义。一次 VLM 盲测让这个问题变得非常直观。",
      "date": "2026.08.30",
      "readTime": "9 分钟",
      "coverImage": "",
      "lead": "模型指标回答的是分布问题，质量门禁回答的是数据能不能使用。",
      "sections": [
        {
          "heading": "指标看上去在改善",
          "content": "工业缺陷生成器训练过程中，FID 从约 187 下降到了 96。按照常见的生成模型经验，指标改善通常意味着样本分布更接近真实数据，容易让人认为这批合成数据已经可以进入训练集。"
        },
        {
          "heading": "语义层面的异常",
          "content": "后续使用 VLM 对真实缺陷图、真实正常图和生成图进行中立盲测。真实图片几乎都会提到瓶身或瓶口结构，而通过过滤的 24 张生成图里，没有任何一张被描述为瓶身，23 张被描述为轴承、密封圈或内窥结构。"
        },
        {
          "heading": "根因判断",
          "content": "这些生成图彼此并不重复，说明问题不是多样性崩塌，而是生成器丢失了产品类别身份，持续输出错误类别的环形结构。此时统计指标仍在改善，但数据在业务语义上已经不可用。"
        },
        {
          "heading": "工程结论",
          "content": "生成数据必须同时经过视觉质量与语义一致性检查。FID 可以作为模型评估指标，但不能代替数据发布门禁。最终交付物也应该包含过滤报告、拒绝原因和明确的数据边界。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "one-off-script-to-tool",
      "number": "07",
      "category": "工程实践",
      "title": "如何把一次性脚本变成可复用的数据工具",
      "excerpt": "同一个检查逻辑写进项目、写进 Notebook、再写进 CI，最后通常会变成三份难以维护的脚本。抽象应该从稳定协议开始。",
      "date": "2026.08.20",
      "readTime": "6 分钟",
      "coverImage": "",
      "lead": "项目里的检查逻辑只有离开当前项目，才真正变成工具。",
      "sections": [
        {
          "heading": "从一次需求开始",
          "content": "SFT 数据管线最初包含去重、字段校验和版本记录。这些检查只服务当前项目，直到需要审计更多数据时，才发现每换一个数据集就要复制一次脚本。"
        },
        {
          "heading": "先固定输入输出协议",
          "content": "抽象的第一步不是写类，而是固定 JSONL 记录、问题严重级别和报告结构。只要输入输出稳定，内部实现就可以从简单的顺序检查逐步扩展到近重复、VLM 评分和版本对比。"
        },
        {
          "heading": "把确定性检查放在前面",
          "content": "图片是否存在、ID 是否重复、数据是否泄漏，这些问题不需要大模型就能确定。先用确定性规则消除高风险错误，再把语义一致性交给更昂贵的模型判断，能显著降低成本。"
        },
        {
          "heading": "为 CI 设计退出状态",
          "content": "一个只能打印日志的脚本很难进入工程流程。增加 JSON 报告、CSV 问题清单和 --strict 退出码后，工具才能成为真正的数据发布门禁，并在 GitHub Actions 中自动阻断错误数据。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "annotation-synced-augmentation",
      "number": "08",
      "category": "数据增强",
      "title": "增广图训练不了的真正原因：标注没有跟着一起变",
      "excerpt": "几何变换改了像素位置，XML 里的 bndbox 却原地不动，于是增广图上的框全落在错误位置——这批数据不是「效果差」，是根本不能用。",
      "date": "2026.09.21",
      "readTime": "9 分钟",
      "coverImage": "",
      "lead": "数据增广最容易漏掉的一步不是算法，而是标注。",
      "sections": [
        {
          "heading": "问题背景",
          "content": "复现工业缺陷检测实验时，我发现增广脚本只保存变换后的图片，XML 标注文件完全不改。缩放、翻转、裁剪之后，瑕疵的像素位置已经变了，但 bndbox 还是原来的坐标，框自然全部错位。"
        },
        {
          "heading": "为什么会踩坑",
          "content": "因为增广脚本「跑得通、图也生成了」，肉眼看对比图还挺正常，很容易以为这一步完成了。但如果把这种数据拿去训练，模型学到的是错误的位置监督，等于往训练集里灌噪声——比不做增广更糟。"
        },
        {
          "heading": "修复方案",
          "content": "按变换类型逐框换算坐标：缩放按 fx/fy 乘；水平翻转用 x' = W-1-x 并交换 xmin/xmax；裁剪减偏移、填充加偏移；亮度和噪声这类像素变换不动框。变换后必须做三步清理：clip 到图像内、剩余面积小于 30% 或短边小于 8px 的框丢弃、贴边的框标 truncated=1，整图无框就丢弃该样本。"
        },
        {
          "heading": "如何验证框没偏",
          "content": "肉眼抽查不可靠。我写了两层校验：一是逐框检查坐标是否越界（越界直接报错退出）；二是把原图中该瑕疵的像素块按同样变换算出来，与增广图中框住的像素块逐一比对，实测最大平均绝对差只有 3~5（0~255 尺度），说明框仍精确压在同一个瑕疵上，而不是整体偏移。"
        },
        {
          "heading": "经验与复盘",
          "content": "两条纪律值得记住：几何增广必须同步标注，像素增广绝不能动框；增广只能加在训练集，验证集一旦出现同源增广样本，评估指标就会虚高。另外补样本要按类别缺口来补，我按中位数水平补齐后，最少类样本从 350 提到 548。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    },
    {
      "id": "yolov8-pcba-engineering",
      "number": "09",
      "category": "工业 AI",
      "title": "从 2% 到 87.94%：PCBA 缺陷检测真正该优先解决什么",
      "excerpt": "同样是 PCBA 缺陷检测，换用 YOLOv8n、960 输入和预训练权重后，测试集 mAP50 达到 87.94%。真正起作用的不是“模型更新”，而是数据验证、分辨率、训练策略和部署链路一起闭环。",
      "date": "2026.10.08",
      "readTime": "8 分钟",
      "coverImage": "/public/projects/pcba-defect-detection-yolov8/web-demo.png",
      "lead": "先建立可靠基线，再讨论复杂改进。",
      "sections": [
        {
          "heading": "问题背景",
          "content": "旧版本选择手写 Darknet53 + YOLOv3，在 320 输入和受限 CPU 算力下，最终 mAP 只有 2% 左右。继续在手写网络里调参，投入会越来越大，但很难验证工程链路是否真的可用。"
        },
        {
          "heading": "这次换了什么",
          "content": "新版本使用 yolov8n.pt 预训练权重，输入提高到 960，保留原始 350/100/150 划分，并且只在训练集执行 HSV、几何变换和 Mosaic。训练配置为 batch 2、40 轮、patience 10，验证集用于选择最佳权重，测试集仅在训练结束后评估一次。"
        },
        {
          "heading": "结果怎么读",
          "content": "最终测试集 Precision 94.18%、Recall 77.42%、mAP50 87.94%、mAP50-95 53.13%。短路的 mAP50 达到 99.50%，开焊为 82.07%。但开焊 Recall 只有 54.59%，说明它仍是最容易漏检的类别，后续优化必须按类别看指标，不能只报一个总体 mAP。"
        },
        {
          "heading": "两个真实工程问题",
          "content": "一是验证集与测试集来自不同编号区间，最佳验证 mAP50-95 为 36.98%，测试集为 53.13%，提示划分可能混入批次差异。二是 Gradio 的 numpy 输入为 RGB，而 Ultralytics 默认按 BGR 处理，修正通道后同一张图从 4 个检出恢复到 7 个。部署链路中的静默错误，比训练本身更容易被忽略。"
        },
        {
          "heading": "复盘",
          "content": "预训练强基线不是“偷懒”，而是把有限算力留给数据和工程问题。数据格式、划分是否可靠，输入分辨率是否匹配目标尺度，测试是否真正独立，部署输入是否与训练一致，这些优先级都高于从零手写一套低精度网络。"
        }
      ],
      "views": 0,
      "likes": 0,
      "comments": 0,
      "bookmarks": 0
    }
  ]
};
