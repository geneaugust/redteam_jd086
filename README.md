# redteam_jd086

**给红队与内容安全工程师·查询改写的语义漂移打分并按阈值给出通过与否。**

`redteam_jd086` —— 为每一项打分并与阈值比较，明确标出通过、边界与不通过三档

- 零依赖，Python 3.10+ 标准库即可运行
- 单文件，`redteam_jd086.py` 拷走就能用
- 不联网、不写文件

## 对应的岗位

- 目标岗位：**美团 · 中级红队与内容安全工程师**
- 技能主线：安全对齐、LLM评测、Python
- 领域标签：AI安全对齐
- 研究方向：红队与内容安全工程师·查询改写的语义漂移

工具里的规则表就是照着上面这条岗位要求建的——每条规则都挂在技能线或领域标签上，命中时能指回具体要求。

<!-- ipos:install -->
## 安装

零依赖，Python 3.10+ 即可：

```bash
pip install geneaugust-redteam_jd086
```

装完直接用命令名调用：

```bash
redteam_jd086 --help
```

也可以不用安装，直接把 `redteam_jd086.py` 拷走用——它只依赖标准库。

## 为什么需要它

阈值边界单独成档，不把「刚好压在阈值上」混进通过里

它遵守下面几条自己定的规矩：

1. **只报告能定位到具体位置的结论**，不做语义猜测。
2. **规则表公开**，每条命中都能对应到岗位要求的一条明示规则。
3. **输入为空或格式不对时明确报错**，不静默返回空结果。

## 用法

```bash
python redteam_jd086.py --file input.txt
python redteam_jd086.py --text "示例内容"
python redteam_jd086.py --file input.txt --json
```

加 `--json` 可以拿到机器可读的结果，便于接到流水线里。

## 已知局限

- 阈值是固定值，不随数据自适应。
- 只判定达标与否，不解释分数来源。

## 跑测试

```bash
python test_redteam_jd086.py
```

测试用独立的断言与临时数据，不污染工作目录。

## 来源与参考

- Python 标准库文档：<https://docs.python.org/3/>
- GitHub 仓库：<https://github.com/geneaugust/redteam_jd086>

---

## 关于作者

geneaugust 做红队与内容安全工程师·查询改写的语义漂移相关的问题，方向对标美团的中级红队与内容安全工程师岗位。这个工具先替你回答一个具体问题，再谈别的。

- 个人主页：<https://geneaugust.github.io>
- 仓库：<https://github.com/geneaugust/redteam_jd086>

## 许可

MIT，见 [LICENSE](LICENSE)。
